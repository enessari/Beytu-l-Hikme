## I.Makine öğrenmesi türleri

### El yazısı rakamları, neden makine öğrenmeyi kullandığımızı tartışırken sıkça kullanılan klasik bir durumdur ve istisna yapmayacağız.

Aşağıda, çok kullanılan MNIST veri setinden elle yazılmış görüntülerin örneklerini görebilirsiniz.

![mnist](https://course.elementsofai.com/static/4_1-mnist.9fe2c1b5.svg)

Her görüntü üzerinde doğru etiket (yazıcının yazması gereken rakam) gösterilir. Bazı "doğru" sınıf etiketlerin bazılarının sorgulanabilir olduğuna dikkat edin: örneğin soldan ikinci resme bakın: bu gerçekten 7 mi, yoksa 4 mü?

> Not
>
> ## MNIST - Bu nedir?
>
> Her makine öğrenen öğrenci MNIST veri setini bilir. Kısaltmanın ne anlama geldiğini daha az bilir. Aslında, M'nin Modifiye anlamına geldiğini ve NIST'in Ulusal Standartlar ve Teknoloji Enstitüsü'nü temsil ettiğini söyleyebilmek için araştırmamız gerekti. Muhtemelen ortalama bir makine öğrenim uzmanının bilmediği şimdi bir şey biliyorsunuz!

En yaygın makine öğrenme problemlerinde, bir kerede tam olarak bir sınıf değer doğrudur. Bu, MNIST durumunda da geçerlidir, ancak söylediğimiz gibi, doğru cevabı çoğu zaman söylemek zor olabilir. Bu tür bir problemde, bir örneğin aynı anda birden fazla sınıfa (veya hiçbirine) ait olması mümkün değildir. Elde etmek istediğimiz, bir AI yöntemi, yukarıdakiler gibi bir resim verilerini ve otomatik olarak doğru etiketi (0 ile 9 arasında bir sayı) yayar.

> Not
>
> ## Problem nasıl çözülmez
>
> Bir otomatik rakam tanıyıcı prensip olarak aşağıdakiler gibi kuralları yazarak manuel olarak oluşturulabilir:
>
> - siyah pikseller çoğunlukla tek bir döngü biçimindeyse, etiket 0 olur
> - eğer siyah pikseller kesişen iki ilmek oluşturuyorsa, etiket 8'dir.
> - Siyah pikseller çoğunlukla şeklin ortasındaki düz bir dikey çizgide ise, etiket 1'dir.
>
> ve bunun gibi… 
> Bu yöntem, AI yöntemlerinin çoğunlukla 1980'lerde (“uzman sistemler” olarak adlandırılıyor) nasıl geliştirildiğiydi. Ancak, rakam tanıma gibi basit bir görev için bile, bu tür kuralların yazılması çok zahmetlidir. Aslında, yukarıdaki örnek kuralların programlama ile uygulanacak yeteri kadar spesifik olamaz - “çoğunlukla”, “döngü”, “satır”, “orta” vb. İle ne demek istediğimizi tam olarak tanımlamamız gerekir. 



### Üç çeşit makine öğrenmesi

Makine öğreniminin kökleri istatistiktedir **ve verilerden bilgi çıkarma** sanatı olarak da düşünülebilir . Özellikle, iki yüzyıldan daha eski olan (!) Doğrusal regresyon ve Bayesian istatistikleri gibi yöntemler, makine öğreniminin merkezinde bugün bile var. Daha fazla örnek ve kısa bir tarih için, [makine öğreniminin zaman çizelgesine](https://en.wikipedia.org/wiki/Timeline_of_machine_learning)bakın (Wikipedia).

Makine öğrenmesi alanı, problemlerin saldırısına uğrayan yoğun sorun türlerine göre genellikle alt alanlara bölünür. Kaba bir sınıflandırma aşağıdaki gibidir:

**Denetimli öğrenme** : (**Supervised**)Bir giriş, örneğin trafik işaretli bir fotoğraf verilmiştir ve görev, örneğin hangi trafik işaretinin resimde (hız sınırı, dur işareti vb.) Olduğunu doğru çıktıyı veya etiketi tahmin etmektir. En basit durumlarda, cevaplar evet / hayır şeklindedir (bu *ikili sınıflandırma problemleri olarak adlandırıyoruz* ).

**Denetimsiz öğrenme** : (**Unsupervised**) Etiket veya doğru çıktı yok. Görev, verinin yapısını keşfetmektir: örneğin, “kümeler” oluşturmak üzere benzer öğeleri gruplamak veya verileri az sayıdaki önemli “boyutlara” azaltmak. Veri görselleştirme, denetimsiz öğrenme olarak da kabul edilebilir.

**Takviye öğrenme** : (**Reinforcement**) Genellikle kendi kendini süren bir araba gibi bir AI aracısının bir ortamda çalışması gereken durumlarda ve iyi veya kötü seçimler hakkında geri bildirimin biraz gecikmeli olarak mevcut olduğu durumlarda kullanılır. Sonuçlara yalnızca oyunun sonunda karar verilebilecek oyunlarda da kullanılır.

Kategoriler biraz örtüşüyor ve bulanık, bu nedenle belirli bir yöntem bazen bir kategoride yerleştirmek zor olabilir. Örneğin, adından da anlaşılacağı gibi yarı denetimli **öğrenme** , kısmen denetlenir ve kısmen Denetimsizdir.

> Not
>
> ## sınıflandırma
>
> Makine öğrenmesi söz konusu olduğunda, öncelikle denetimli öğrenmeye ve özellikle de sınıflandırma görevlerine odaklanacağız. Sınıflandırmada, bir trafik işaretinin fotoğrafı gibi girdileri gözlemliyoruz ve işaret türü (hız sınırı 80 km / s, yaya geçidi, dur işareti, vb.) Gibi “sınıfını” çıkarmaya çalışıyoruz. Diğer sınıflandırma görevlerine örnekler: sahte Twitter hesaplarının tanımlanması (giriş, takipçilerin listesini ve hesabı takip etmeye başladıkları oranı ve sınıfın sahte veya gerçek hesap olduğunu) ve el yazısı rakam tanımanın (giriş bir görüntü, sınıf 0, ..., 9).

![denetimli öğrenme](https://course.elementsofai.com/static/4_1_supervised-learning.093ef920.svg)

### İnsanlar makinelere öğretiyor : denetimli öğrenme

Sınıflandırmayı yapmak için kesin kuralları elle yazmak yerine, denetlenen makine öğrenimindeki önemli nokta, birkaç örnek almak, her birini doğru etiketle etiketlemek ve doğru etiketi otomatik olarak tanımak için bir AI yöntemini “eğitmek” için kullanmaktır. eğitim örnekleri için ve (en azından umulur) diğer resimler için. Bu elbette doğru etiketlerin sağlanmasını gerektirir, bu yüzden denetimli öğrenme hakkında konuşuyoruz. Doğru etiketleri sağlayan kullanıcı, öğrenme algoritmasını doğru cevaplara yönlendiren ve sonunda algoritmanın bağımsız olarak üretebilmesi için bir süpervizördür.

Bir sınıflandırma probleminde doğru etiketin nasıl tahmin edileceğini öğrenmenin yanı sıra, denetlenen öğrenme, öngörülen sonucun bir sayı olduğu durumlarda da kullanılabilir. Örnekler, reklam içeriğine dayalı olarak bir Google reklamını tıklayacak olan kişilerin sayısını ve kullanıcının önceki çevrimiçi davranışına ilişkin verileri tahmin etmeyi, yol koşullarına ve hız sınırına dayalı trafik kazalarının sayısını tahmin etmeyi veya emlak satış fiyatını tahmin etmeyi içerir. yeri, büyüklüğü ve durumu. Bu sorunlara *regresyon* denir . Muhtemelen, *regresyon* için hala çok popüler bir teknik olan *lineer regresyon* terimini tanıyorsunuzdur .

> Not
>
> ## Örnek
>
> Dairede satış verilerinden oluşan bir veri kümemiz olduğunu varsayalım. Her bir satın alım için, dairenin büyüklüğü ile birlikte metrekare olarak (veya isterseniz metrekare), ve yatak odası sayısı, yapım yılı, durum (bir “felaketten” “hüzme ve yayılma” ya kadar ölçeklendirme). Daha sonra bu özellikleri temel alarak satış fiyatını öngören bir regresyon modelini eğitmek için makine öğrenmeyi kullanabiliriz. [Burada gerçek hayattan bir örnek](http://kannattaakokauppa.fi/#/en/) görün

![fiyat-gayrimenkul](data:image/svg+xml;base64,<svg id="Layer_1" xmlns="http://www.w3.org/2000/svg" viewBox="0 0 710 360.9">
    <style>
        .st0{fill:#fff}.st1{fill:#85a0ff}.st2{fill:#342d71}.st3{fill:#7799eb}.st4{fill:#8080d8}.st5{opacity:.8}.st6{fill:#4747a1}.st7{fill:#fdbf84}.st8{opacity:.2664}.st9{fill-rule:evenodd;clip-rule:evenodd;fill:#342d71}.st10{opacity:.5}.st11{fill:#50b9e8}
    </style>
    <title>
        3_1-odds
    </title>
    <path class="st0" d="M541.7 258.8V271.9h23.6v-20.4h93v44.6H710h-51.7v2H710v62.8H563.2v-46.6h-25.5v46.6H455v-57.7h.1v-71.5h86.6v27.1"/>
    <path class="st1" d="M500.6 314.2H480.8v24.7H511.9v-24.7zM475 250.1h42.7v33.3H475zM589.1 314.2h42.7v33.3h-42.7z"/>
    <path class="st2" d="M537.8 314.3h25.5v46.6h-25.5zM455.2 225.7v6h86.5v-7.2h-86.5zM565.3 245.6v5.9h93v-7.2h-93zM658.3 292.2v5.9H710v-7.2h-51.7zM541.7 265.9v6h23.6v-7.2h-23.6zM389.1 224.5H269c-1.5 0-2.7 1.2-2.7 2.7v68.6h10.2v64.8h114.2V226.2c.1-1-.6-1.7-1.6-1.7z"/>
    <path class="st0" d="M354.8 360.5H331v-46.8h23.8"/>
    <path class="st3" d="M337.8 319.9h10.3v20.3h-10.3z"/>
    <path class="st4" d="M242.2 313.6h34.4v46.9h-34.4z"/>
    <g class="st5">
        <path class="st1" d="M391.9 295.6h-25.4V245c0-.8.6-1.4 1.4-1.4h23.9v52z"/>
    </g>
    <g class="st5">
        <path class="st1" d="M284 243.6h33.7v52H284z"/>
    </g>
    <path class="st2" d="M98.8 273.9v27.3H0v-23.9c0-1.9 1.5-3.4 3.4-3.4h95.4z"/>
    <path class="st6" d="M148.4 286.4l-17-2.7V263c0-1.1.9-2 2-2h12.9c1.1 0 2 .9 2 2v23.4z"/>
    <path class="st7" d="M114 269.5l-60 35.4v-.7H0v56.3h174.1v-55.6z"/>
    <path class="st2" d="M126.5 319h-24.8c-.1 0-.2.1-.2.2v41.2h25V319z"/>
    <path class="st6" d="M139.9 319h19.2v19.2h-19.2zM68.1 319.3h19.2v19.2H68.1z"/>
    <path class="st2" d="M115 264.2c-.6-.4-1.3-.4-1.9 0l-16.3 9.5-47 27.5H0v6.2h49.8l63.3-37.1c.6-.3 1.3-.3 1.9 0l63.3 37.1v-6.2l-63.3-37z"/>
    <g class="st8">
        <path class="st9" d="M49.8 307.3l-35.6 53.2h35.6z"/>
    </g>
    <g class="st8">
        <path class="st9" d="M276.7 313.5l-34.5 47h34.5z"/>
    </g>
    <g class="st8">
        <path class="st9" d="M658.3 290.9l-51.1 69.6h51.1z"/>
    </g>
    <path class="st7" d="M76.3 316.6h2.9v26.5h-2.9z"/>
    <path transform="rotate(90 77.219 328.948)" class="st7" d="M75.8 315.7h2.9v26.5h-2.9z"/>
    <path class="st7" d="M148.1 316.6h2.9v26.5h-2.9z"/>
    <path transform="rotate(90 149.535 328.948)" class="st7" d="M148.1 315.7h2.9v26.5h-2.9z"/>
    <circle class="st6" cx="563.3" cy="47.8" r="47.8"/>
    <g class="st10">
        <path class="st11" d="M560.9 186.3v-64.4"/>
        <path class="st6" d="M557.2 186.3c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.7-3.7-3.7zm0-20.9c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.7-3.7-3.7zm0-20.9c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.7-3.7-3.7zm0-20.9c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.6-3.7-3.7z"/>
    </g>
    <circle class="st6" cx="333.5" cy="47.8" r="47.8"/>
    <g class="st10">
        <path class="st11" d="M331.1 186.3v-64.4"/>
        <path class="st6" d="M327.4 186.3c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.7-3.7-3.7zm0-20.9c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.7-3.7-3.7zm0-20.9c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.7-3.7-3.7zm0-20.9c0-2 1.6-3.7 3.7-3.7 2 0 3.7 1.6 3.7 3.7 0 2-1.6 3.7-3.7 3.7s-3.7-1.6-3.7-3.7z"/>
    </g>
    <g>
        <circle class="st6" cx="112.5" cy="47.8" r="47.8"/>
    </g>
    <g class="st10">
        <path class="st11" d="M110.1 186.3v-64.4"/>
        <path class="st6" d="M106.5 186.3c0-2 1.6-3.7 3.6-3.7s3.7 1.6 3.7 3.7c0 2-1.6 3.7-3.7 3.7-2 0-3.6-1.7-3.6-3.7zm0-20.9c0-2 1.6-3.7 3.6-3.7s3.7 1.6 3.7 3.7c0 2-1.6 3.7-3.7 3.7-2 0-3.6-1.7-3.6-3.7zm0-20.9c0-2 1.6-3.7 3.6-3.7s3.7 1.6 3.7 3.7c0 2-1.6 3.7-3.7 3.7-2 0-3.6-1.7-3.6-3.7zm0-20.9c0-2 1.6-3.7 3.6-3.7s3.7 1.6 3.7 3.7c0 2-1.6 3.7-3.7 3.7-2 0-3.6-1.6-3.6-3.7z"/>
    </g>
    <g>
        <path class="st0" d="M113.2 37.6c3.6.4 5.4 3 5.4 5.7h-4.2c0-1.6-.8-2.6-2.3-2.6-1.2 0-2.2.6-2.2 1.9 0 1.2 1.1 1.9 2.6 2.4 3 1 6.4 2.2 6.4 5.9 0 3.4-2.3 5.4-5.7 5.8v2.8h-2.3v-2.8c-3.3-.4-5.7-2.7-5.7-6.4h4.2c0 2 1.2 3.2 2.9 3.2 1.4 0 2.4-.9 2.4-2.1 0-1.5-1.3-2-2.8-2.6-3.4-1.2-6.2-2.3-6.2-6 0-2.9 2.4-4.7 5.2-5.1v-2.8h2.3v2.7z"/>
    </g>
    <g>
        <path class="st0" d="M323.6 38.3c3.6.4 5.4 3 5.4 5.7h-4.2c0-1.6-.8-2.6-2.3-2.6-1.2 0-2.2.6-2.2 1.9 0 1.2 1.1 1.9 2.6 2.4 3 1 6.4 2.2 6.4 5.9 0 3.4-2.3 5.4-5.7 5.8v2.8h-2.3v-2.8c-3.3-.4-5.7-2.7-5.7-6.4h4.2c0 2 1.2 3.2 2.9 3.2 1.4 0 2.4-.9 2.4-2.1 0-1.5-1.3-2-2.8-2.6-3.4-1.2-6.2-2.3-6.2-6 0-2.9 2.4-4.7 5.2-5.1v-2.8h2.3v2.7z"/>
    </g>
    <g>
        <path class="st0" d="M345.8 38.3c3.6.4 5.4 3 5.4 5.7H347c0-1.6-.8-2.6-2.3-2.6-1.2 0-2.2.6-2.2 1.9 0 1.2 1.1 1.9 2.6 2.4 3 1 6.4 2.2 6.4 5.9 0 3.4-2.3 5.4-5.7 5.8v2.8h-2.3v-2.8c-3.3-.4-5.7-2.7-5.7-6.4h4.2c0 2 1.2 3.2 2.9 3.2 1.4 0 2.4-.9 2.4-2.1 0-1.5-1.3-2-2.8-2.6-3.4-1.2-6.2-2.3-6.2-6 0-2.9 2.4-4.7 5.2-5.1v-2.8h2.3v2.7z"/>
    </g>
    <g>
        <path class="st0" d="M541.9 38.3c3.6.4 5.4 3 5.4 5.7H543c0-1.6-.8-2.6-2.3-2.6-1.2 0-2.2.6-2.2 1.9 0 1.2 1.1 1.9 2.6 2.4 3 1 6.4 2.2 6.4 5.9 0 3.4-2.3 5.4-5.7 5.8v2.8h-2.3v-2.8c-3.3-.4-5.7-2.7-5.7-6.4h4.2c0 2 1.2 3.2 2.9 3.2 1.4 0 2.4-.9 2.4-2.1 0-1.5-1.3-2-2.8-2.6-3.4-1.2-6.2-2.3-6.2-6 0-2.9 2.4-4.7 5.2-5.1v-2.8h2.3v2.7z"/>
    </g>
    <g>
        <path class="st0" d="M564.8 38.3c3.6.4 5.4 3 5.4 5.7H566c0-1.6-.8-2.6-2.3-2.6-1.2 0-2.2.6-2.2 1.9 0 1.2 1.1 1.9 2.6 2.4 3 1 6.4 2.2 6.4 5.9 0 3.4-2.3 5.4-5.7 5.8v2.8h-2.3v-2.8c-3.3-.4-5.7-2.7-5.7-6.4h4.2c0 2 1.2 3.2 2.9 3.2 1.4 0 2.4-.9 2.4-2.1 0-1.5-1.3-2-2.8-2.6-3.4-1.2-6.2-2.3-6.2-6 0-2.9 2.4-4.7 5.2-5.1v-2.8h2.3v2.7z"/>
    </g>
    <g>
        <path class="st0" d="M586.7 38.3c3.6.4 5.4 3 5.4 5.7h-4.2c0-1.6-.8-2.6-2.3-2.6-1.2 0-2.2.6-2.2 1.9 0 1.2 1.1 1.9 2.6 2.4 3 1 6.4 2.2 6.4 5.9 0 3.4-2.3 5.4-5.7 5.8v2.8h-2.3v-2.8c-3.3-.4-5.7-2.7-5.7-6.4h4.2c0 2 1.2 3.2 2.9 3.2 1.4 0 2.4-.9 2.4-2.1 0-1.5-1.3-2-2.8-2.6-3.4-1.2-6.2-2.3-6.2-6 0-2.9 2.4-4.7 5.2-5.1v-2.8h2.3v2.7z"/>
    </g>
</svg>
)



### Uyarı: Bu makine öğrenme algoritmasına dikkat edin

Sizi haberdar etmek istediğimiz birkaç olası hata var. Makine öğrenme yöntemlerini uygulama şeklinize dikkat etmediğiniz sürece, tahminlerinizin doğruluğu konusunda kendinizden emin olabileceğiniz ve doğruluk beklenenden daha kötü olduğu ortaya çıktığında çok fazla hayal kırıklığına uğrayabileceğinizle ilgilidir.

Büyük hatalardan kaçınmak için akılda tutulması gereken ilk şey, verilerinizi iki bölüme ayırmaktır: **eğitim verileri** ve **test verileri** . İlk önce algoritmayı sadece eğitim verilerini kullanarak eğitiriz. Bu bize girdi değişkenlerini temel alarak çıktıyı tahmin eden bir model ya da kural verir.

Çıktıları ne kadar iyi tahmin edebileceğimizi değerlendirmek için, eğitim verilerine güvenemeyiz. Bir model eğitim verilerinde çok iyi bir tahmin edici olabilirken, diğer verilere **genelleyebileceğinin bir** kanıtı değildir . Test verilerinin kullanışlı olduğu yer burasıdır: Test verilerinin çıktılarını tahmin etmek ve tahminleri gerçek çıktılarla (örneğin, gelecekteki apartman satış fiyatları) karşılaştırmak için eğitimli modeli uygulayabiliriz.

> Not
>
> ## Gerçek olamayacak kadar uygun! Aşırı uyum (overfitting) uyarısı
>
> Makine öğrenmesi tarafından öğrenilen bir tahmincinin doğruluğunun, eğitim verilerinde ve ayrı test verilerinde oldukça farklı olabileceğini unutmamak önemlidir. Bu sözde **aşırı uyum** fenomeni ve bir çok makine öğrenimi araştırması, bir şekilde ya da başka bir şeyden kaçınmaya odaklanmıştır. Sezgisel olarak, overfitting çok akıllı olmaya çalışıyor demektir. Bilinen bir sanatçının yeni bir şarkının başarısını tahmin ederken, sanatçının önceki şarkılarının parça kayıtlarına bakabilir ve “şarkı aşkla ilgiliyse ve akılda kalıcı bir koro içeriyorsa, en iyi 20". Bununla birlikte, belki de ilk 20’yi yapmayan akılda kalıcı korolara sahip iki aşk şarkısı vardır, bu nedenle kuralınızı geliştirmek için “… ya da yogadan söz edilmediği sürece” kuralına devam etmeye karar verirsiniz. Bu, kuralınızın geçmiş verilere mükemmel bir şekilde uymasını sağlayabilir, ancak aslında **gelecekteki test verilerinde daha da kötü** çalışmasını **sağlayabilir** .
>
> Makine öğrenim yöntemleri özellikle fazla donuk kalmaya meyillidir çünkü eğitim verilerine mükemmel bir şekilde uyana kadar çok sayıda farklı “kural” deneyebilirler. Özellikle çok esnek olan ve verideki hemen hemen tüm kalıplara uyum sağlayabilen yöntemler, veri miktarı çok fazla olmadıkça yerine gelebilir. Örneğin, lineer regresyonla elde edilen oldukça sınırlı lineer modellerle karşılaştırıldığında, sinir ağları güvenilir tahmin üretmeden önce büyük miktarda veri gerektirebilir.

Fazla taklit etmekten kaçınmayı ve çok kısıtlı olmayan ya da çok esnek olmayan bir model seçmeyi öğrenmek, bir veri bilimcisinin en temel becerilerinden biridir.

### Bir öğretmen olmadan öğrenme: denetimsiz öğrenme

Yukarıda, doğru cevapların bulunduğu denetimli öğrenmeyi tartıştık ve makine öğrenme algoritmasının görevi, girdi verilerine dayanarak onları öngören bir model bulmak.

Denetimsiz öğrenmede doğru cevaplar verilmez. Bu, durumu eğitim verilerindeki doğru cevaplara uyarak yapamadığımız için durumu oldukça farklı kılar. Ayrıca, performans değerlendirmesini daha karmaşık hale getirir çünkü öğrenilen modelin iyi çalışıp çalışmadığını kontrol edemeyiz.

Tipik denetimsiz öğrenme yöntemleri, verinin altında bir tür “yapı” öğrenmeye çalışır. Bu, örneğin, benzer öğelerin birbirine yakın yerleştirildiği ve birbirine benzemeyen öğelerin birbirinden uzağa yerleştirildiği **görselleştirme** anlamına gelebilir . Aynı zamanda , verileri birbirine benzer öğelerin gruplarını veya “kümelerini” tanımlamak için kullandığımız ve diğer kümelerdeki verilerden farklı olan **kümelenme** anlamına da gelebilir .

> Not
>
> ## Örnek
>
> Somut bir örnek olarak, market zincirleri, müşterilerinin alışveriş davranışları hakkında veri toplar (bu nedenle tüm bu sadakat kartlarına sahipsiniz). Mağaza, müşterilerini daha iyi anlamak için, her müşterinin bir nokta ile temsil edildiği bir grafiği kullanarak verileri görselleştirebilir ve aynı ürünleri satın alma eğiliminde olan müşteriler, farklı ürünler satın alan müşterilerden daha yakın yerleştirilir. Veya mağaza, “düşük bütçeli sağlık gıda meraklıları”, “üst düzey balık severler”, “soda ve haftanın 6 günü pizza” gibi bir dizi müşteri grubunu elde etmek için kümelemeyi uygulayabilir. Makine öğrenme yönteminin müşterileri yalnızca kümeler halinde gruplayacağını, ancak küme etiketlerini otomatik olarak üretmeyeceğini (“balık severler” vb.) Unutmayın. Bu görev kullanıcı için bırakılacaktır.

Yine denetlenmemiş öğrenmenin bir başka örneği **üretici modelleme** (**generative** ) olarak adlandırılabilir . Bu, son birkaç yıldan beri, üretici rakip ağlar (GAN) adı verilen derin bir öğrenme tekniğinin büyük ilerlemelere yol açmasından beri belirgin bir yaklaşım haline gelmiştir. Bazı veriler, örneğin, insanların yüzlerinin fotoğrafları göz önüne alındığında, üretken bir model daha fazlasını üretebilir: insanların yüzlerinin daha gerçek görünümlü fakat yapay görüntüleri.

Kurstan biraz sonra GAN'lara ve yüksek kaliteli yapay görüntü içeriğini üretmenin sonuçlarına geri döneceğiz, ancak daha sonra denetimli öğrenmeye daha yakından bakacağız ve bazı özel yöntemleri daha ayrıntılı olarak tartışacağız.