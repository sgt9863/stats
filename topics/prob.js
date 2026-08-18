'use strict';
/* 確率と確率変数の基礎（準1級 範囲表「確率と確率変数」を網羅） */
(function () {
  const T = (window.STATS_TOPICS = window.STATS_TOPICS || []);
  const S = () => window.Stats;
  const P = () => window.Plot;

  /* --- 事象と確率・包除原理・独立 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'events-probability', title: '事象と確率・包除原理',
    summary: '確率の加法定理・乗法定理・包除原理・統計的独立を、2つの事象の重なりを動かして目で確かめます。',
    body: `
<p>標本空間 $\\Omega$ の部分集合を<strong>事象</strong>と呼び、確率 $P$ は次の公理を満たします（コルモゴロフの公理）。</p>
<p>$$ 0\\le P(A)\\le 1,\\quad P(\\Omega)=1,\\quad A\\cap B=\\varnothing \\Rightarrow P(A\\cup B)=P(A)+P(B) $$</p>
<h3>加法定理と包除原理</h3>
<p>重なりがある場合は、重複して数えた分 $P(A\\cap B)$ を引きます。</p>
<p>$$ P(A\\cup B)=P(A)+P(B)-P(A\\cap B) $$</p>
<p>3事象なら $P(A\\cup B\\cup C)=\\sum P(A)-\\sum P(A\\cap B)+P(A\\cap B\\cap C)$。足して・引いて・足す、が<strong>包除原理</strong>です。</p>
<h3>乗法定理と独立</h3>
<p>$$ P(A\\cap B)=P(A)\\,P(B\\mid A) $$</p>
<p>特に $P(A\\cap B)=P(A)P(B)$ が成り立つとき、$A$ と $B$ は<strong>統計的に独立</strong>。独立とは「一方が起きても他方の確率が変わらない」ことです。</p>
<h3>つまずきやすい点</h3>
<p><strong>「排反」と「独立」は正反対に近い</strong>——排反（$A\\cap B=\\varnothing$）は「片方が起きたらもう片方は起きない」という<em>強い依存</em>で、$P(A),P(B)>0$ なら独立には決してなりません。混同注意です。もう一つの落とし穴が<strong>3事象以上の独立</strong>：すべてのペアが独立（対独立）でも、3つまとめて独立（相互独立）とは限りません。例として独立なコイン $X,Y$ と $Z=X\\oplus Y$（排他的論理和）は、どのペアも独立ですが、$P(X{=}1,Y{=}1,Z{=}1)=0\\ne P(X)P(Y)P(Z)=1/8$——数値実験でもペアは一致・3つ組は 0 vs 0.124 と乖離しました。相互独立には「すべての部分集合で積が成り立つ」ことが必要です。さらに、独立性は<strong>条件付きで変わり得ます</strong>（無条件では独立でも、第3の事象で条件付けると従属になる／その逆＝シンプソン的な逆転も起きる）。「独立」は図の重なりの見た目ではなく、$P(A\\cap B)=P(A)P(B)$ という<strong>数式</strong>でのみ判定します。</p>
<div class="note">下の図で $P(A)$・$P(B)$ と重なり $P(A\\cap B)$ を動かし、和事象・条件付き確率・独立条件がどう変わるかを見てください。重なりを「$P(A)P(B)$」に一致させると独立になります。重なりを0（排反）にすると独立表示が消える——排反と独立は両立しないことも確かめてください。</div>`,
    demo: {
      task: {
        q: '$P(A)=0.5$、$P(B)=0.4$ に固定して $P(A\\cap B)$ を 0 → 0.2 → 0.4 と動かしてください。どの値のとき $A$ と $B$ は独立ですか。0のときは何と呼びますか。',
        a: '<p>独立の条件は $P(A\\cap B)=P(A)P(B)=0.5\\times0.4=\\mathbf{0.2}$。ちょうど中央の値です。</p><ul><li>$P(A\\cap B)=0$：<strong>排反（互いに素）</strong>。重なりがゼロ。$P(A\\cup B)=0.9$。</li><li>$P(A\\cap B)=0.2$：<strong>独立</strong>。$P(A\\mid B)=0.2/0.4=0.5=P(A)$ で、$B$ を知っても $A$ の確率が変わりません。</li><li>$P(A\\cap B)=0.4$：<strong>正の依存</strong>（$B$ が起きれば必ず $A$ も起きる、$P(A\\mid B)=1$）。</li></ul><p>ここで最頻出の混同を潰しておきます——<strong>「排反」と「独立」は正反対に近い概念です</strong>。排反なら $P(A\\mid B)=0$、つまり $B$ が起きたら $A$ は絶対に起きない＝<strong>これ以上ない強い依存</strong>。確率が正の2事象が排反なら、それは決して独立ではありません。</p><p>ベン図の「重なりがない」を見て「無関係だから独立」と読んでしまうのが典型的な誤りです。独立は図の見た目でなく、<strong>$P(A\\cap B)=P(A)P(B)$ という式</strong>でしか判定できません。',
      },
      note: '重なり P(A∩B) を P(A)×P(B) に近づけると「独立」の表示になります。和事象は重なりを引いた面積であることに注目。',
      controls: [
        { type: 'range', id: 'pa', label: 'P(A)', min: 0.1, max: 0.9, step: 0.05, value: 0.5 },
        { type: 'range', id: 'pb', label: 'P(B)', min: 0.1, max: 0.9, step: 0.05, value: 0.4 },
        { type: 'range', id: 'pab', label: 'P(A∩B)', min: 0, max: 0.4, step: 0.02, value: 0.2 },
      ],
      draw(canvas, p) {
        const Pl = P();
        const dpr = window.devicePixelRatio || 1;
        const W = canvas.clientWidth, H = canvas.clientHeight;
        canvas.width = Math.round(W * dpr); canvas.height = Math.round(H * dpr);
        const ctx = canvas.getContext('2d');
        ctx.setTransform(dpr, 0, 0, dpr, 0, 0);
        ctx.clearRect(0, 0, W, H);
        const pa = p.pa, pb = p.pb;
        const pabMax = Math.min(pa, pb);
        const pab = Math.min(p.pab, pabMax);
        // ベン図（面積は概念図・比率で表現）
        const cy = H * 0.42;
        const rA = 78, rB = 70;
        const overlap = pab / pabMax; // 0..1
        const gap = (rA + rB) * (1 - 0.72 * overlap);
        const cxA = W / 2 - gap / 2, cxB = W / 2 + gap / 2;
        ctx.globalAlpha = 0.45;
        ctx.fillStyle = '#4f6df5';
        ctx.beginPath(); ctx.arc(cxA, cy, rA, 0, Math.PI * 2); ctx.fill();
        ctx.fillStyle = '#e4572e';
        ctx.beginPath(); ctx.arc(cxB, cy, rB, 0, Math.PI * 2); ctx.fill();
        ctx.globalAlpha = 1;
        ctx.strokeStyle = '#4f6df5'; ctx.lineWidth = 2;
        ctx.beginPath(); ctx.arc(cxA, cy, rA, 0, Math.PI * 2); ctx.stroke();
        ctx.strokeStyle = '#e4572e';
        ctx.beginPath(); ctx.arc(cxB, cy, rB, 0, Math.PI * 2); ctx.stroke();
        ctx.fillStyle = '#1d2433'; ctx.font = 'bold 16px sans-serif';
        ctx.textAlign = 'center'; ctx.textBaseline = 'middle';
        ctx.fillText('A', cxA - rA * 0.5, cy - rA * 0.5);
        ctx.fillText('B', cxB + rB * 0.5, cy - rB * 0.5);
        // 計算表
        const punion = pa + pb - pab;
        const pBgivenA = pab / pa;
        const indep = pa * pb;
        const isIndep = Math.abs(pab - indep) < 0.012;
        ctx.font = '13.5px sans-serif'; ctx.textAlign = 'left'; ctx.textBaseline = 'top';
        const lines = [
          ['P(A∪B) = P(A)+P(B)−P(A∩B) = ', punion.toFixed(3), '#1d2433'],
          ['P(B|A) = P(A∩B)/P(A) = ', pBgivenA.toFixed(3), '#1d2433'],
          ['独立なら P(A∩B)=P(A)P(B) = ', indep.toFixed(3), '#66708a'],
          [isIndep ? '→ ほぼ独立（一方が他方の確率を変えない）' : '→ 独立ではない（関連あり）', '', isIndep ? '#2a9d8f' : '#e4572e'],
        ];
        let y = H - 96;
        for (const [t, v, c] of lines) { ctx.fillStyle = c; ctx.fillText(t + v, 24, y); y += 22; }
      },
    },
  });

  /* --- 条件付き確率とベイズの定理 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'conditional-bayes', title: '条件付き確率とベイズの定理',
    summary: '検査の「陽性」から「本当に病気である確率」を、有病率・感度・特異度を動かして求め、直感が外れやすい理由（基準率の錯誤）を体感します。',
    body: `
<p><strong>条件付き確率</strong> $P(A\\mid B)=\\dfrac{P(A\\cap B)}{P(B)}$ は「$B$ が起きたと分かったうえでの $A$ の確率」。ここから<strong>ベイズの定理</strong>が導かれます。</p>
<p>$$ P(H\\mid D)=\\frac{P(D\\mid H)\\,P(H)}{P(D)},\\qquad P(D)=\\sum_i P(D\\mid H_i)P(H_i)\\ (\\text{全確率の公式}) $$</p>
<p>病気 $H$・陽性 $D$ の例では、事前確率＝有病率 $P(H)$、感度 $P(D\\mid H)$、特異度 $P(\\bar D\\mid \\bar H)$ から、</p>
<p>$$ P(H\\mid D)=\\frac{\\text{感度}\\cdot\\text{有病率}}{\\text{感度}\\cdot\\text{有病率}+(1-\\text{特異度})(1-\\text{有病率})} $$</p>
<p><strong>オッズで見ると一撃</strong>：ベイズの定理は「事後オッズ＝事前オッズ×尤度比」と書けます。$\\dfrac{P(H\\mid D)}{P(\\bar H\\mid D)}=\\dfrac{P(H)}{P(\\bar H)}\\times\\dfrac{\\text{感度}}{1-\\text{特異度}}$。有病率1%（事前オッズ 1:99）に感度95%/特異度95%（尤度比 19）を掛けても事後オッズは 19:99＝陽性的中率わずか16%。<strong>事前が極端に低いと、よほど尤度比が大きくない限り事後も低いまま</strong>——これが基準率の錯誤の数式的な正体です。</p>
<h3>前提と、崩れたときの注意</h3>
<p>この計算はいくつかの仮定に依存します。<strong>(1) 感度・特異度が対象集団で一定</strong>：実際には病期・年齢で変わり（スペクトラムバイアス）、検査を開発した集団の値をそのまま別集団に当てると的中率がずれます。<strong>(2) 有病率＝正しい参照クラス</strong>：分母に置く「事前確率」を取り違えると答えが変わる（症状のある受診者と無症状スクリーニングでは事前が全く違う）。<strong>(3) 繰り返し検査の条件付き独立</strong>：2回検査して両方陽性でも、誤差原因が共通（同じ試薬ロット・同じ体質）なら独立でなく、単純に尤度比を掛け算できません。加えて有名な混同が<strong>「検察官の誤謬」</strong>——$P(D\\mid H)$（病気なら陽性の確率）と $P(H\\mid D)$（陽性なら病気の確率）を取り違えること。この2つは有病率で結ばれる別物で、事前確率を無視して尤度だけで結論すると重大な誤りになります。</p>
<div class="note">有病率が低いと、感度・特異度が高くても「陽性→実際に病気」の確率（陽性的中率）は驚くほど低くなります。これが<strong>基準率の錯誤</strong>。下で有病率を下げて確かめてください。事前オッズ×尤度比の式で、有病率スライダーが「事前オッズ」を、感度・特異度が「尤度比」を動かしていると読むと見通しが良くなります。</div>`,
    demo: {
      task: {
        q: '感度・特異度を95%のまま、有病率を 0.5% → 1% → 50% と動かすと、陽性的中率はどう変わりますか。検査の性能は変えていないのに変わるのはなぜですか。',
        a: '<p>陽性的中率は <strong>8.7% → 16.1% → 95.0%</strong>。同じ検査でも、有病率で10倍以上変わります。</p><p>理由は<strong>偽陽性の母数</strong>です。有病率1%・1000人なら、病気10人から真陽性9.5人、健康990人から偽陽性49.5人——陽性者59人の大半が健康な人になる。特異度95%は「健康な人の5%が陽性」で、その5%が<strong>大きな母数にかかる</strong>から効いてきます。</p><p>実務的な含意は決定的です。<strong>感度・特異度は検査自体の性質で有病率に依存しませんが、陽性的中率は事前確率に強く依存します</strong>。同じ検査でも、無症状者へのスクリーニングと有症状者への確定検査ではまるで意味が違う——これが基準率の錯誤の正体です。',
      },
      note: '有病率を1%まで下げると、感度95%・特異度95%でも陽性的中率は2割以下。分母に「偽陽性の大群」が入るためです。1000人の内訳バーで確認できます。',
      controls: [
        { type: 'range', id: 'prev', label: '有病率 P(H) (%)', min: 0.5, max: 50, step: 0.5, value: 1 },
        { type: 'range', id: 'sens', label: '感度 P(陽性|病気) (%)', min: 50, max: 100, step: 1, value: 95 },
        { type: 'range', id: 'spec', label: '特異度 P(陰性|健康) (%)', min: 50, max: 100, step: 1, value: 95 },
      ],
      draw(canvas, p) {
        const Pl = P();
        const dpr = window.devicePixelRatio || 1;
        const W = canvas.clientWidth, H = canvas.clientHeight;
        canvas.width = Math.round(W * dpr); canvas.height = Math.round(H * dpr);
        const ctx = canvas.getContext('2d');
        ctx.setTransform(dpr, 0, 0, dpr, 0, 0);
        ctx.clearRect(0, 0, W, H);
        const prev = p.prev / 100, sens = p.sens / 100, spec = p.spec / 100;
        const N = 1000;
        const sick = N * prev, healthy = N - sick;
        const TP = sick * sens, FN = sick - TP;
        const TN = healthy * spec, FP = healthy - TN;
        const ppv = TP / (TP + FP || 1);
        // 1000人を格子で表示（10x100）: TP=赤, FP=橙, TN=薄灰, FN=濃赤
        const cols = 50, rows = 20, cell = Math.min((W - 40) / cols, (H - 150) / rows);
        const x0 = (W - cols * cell) / 2, y0 = 12;
        let idx = 0;
        const cats = [
          { n: Math.round(TP), c: '#e4572e' },      // 真陽性
          { n: Math.round(FP), c: '#f4a261' },      // 偽陽性
          { n: Math.round(FN), c: '#9b2226' },      // 偽陰性
          { n: N - Math.round(TP) - Math.round(FP) - Math.round(FN), c: '#e5e8f0' }, // 真陰性
        ];
        for (const cat of cats) {
          for (let k = 0; k < cat.n && idx < N; k++, idx++) {
            const r = Math.floor(idx / cols), c = idx % cols;
            ctx.fillStyle = cat.c;
            ctx.fillRect(x0 + c * cell, y0 + r * cell, cell - 1, cell - 1);
          }
        }
        const ly = y0 + rows * cell + 16;
        ctx.font = '12.5px sans-serif'; ctx.textAlign = 'left'; ctx.textBaseline = 'middle';
        const leg = [['真陽性 (病気&陽性)', '#e4572e'], ['偽陽性 (健康&陽性)', '#f4a261'], ['偽陰性', '#9b2226'], ['真陰性', '#e5e8f0']];
        let lx = x0;
        for (const [t, c] of leg) {
          ctx.fillStyle = c; ctx.fillRect(lx, ly - 6, 12, 12);
          ctx.fillStyle = '#475467'; ctx.fillText(t, lx + 16, ly);
          lx += ctx.measureText(t).width + 40;
        }
        ctx.font = 'bold 15px sans-serif'; ctx.fillStyle = '#1d2433'; ctx.textAlign = 'center';
        ctx.fillText('陽性的中率 P(病気|陽性) = 真陽性 / (真陽性+偽陽性) = ' + (ppv * 100).toFixed(1) + '%',
          W / 2, ly + 30);
        ctx.font = '12.5px sans-serif'; ctx.fillStyle = '#66708a';
        ctx.fillText('陽性者 ' + Math.round(TP + FP) + '人のうち、本当に病気は ' + Math.round(TP) + '人だけ',
          W / 2, ly + 52);
      },
    },
  });

  /* --- 確率変数・pdf・cdf・生存関数 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'random-variables', title: '確率関数・密度関数・分布関数・生存関数',
    summary: '確率質量関数(pmf)・確率密度関数(pdf)・累積分布関数(cdf)・生存関数の関係を、同じ分布の3つの見方として並べて理解します。',
    body: `
<p>確率変数の分布は、いくつかの「関数」で表せます。互いに変換でつながっています。</p>
<table class="simple">
<tr><th>関数</th><th>離散</th><th>連続</th><th>意味</th></tr>
<tr><td>確率関数 / 密度関数</td><td>$p(x)=P(X=x)$</td><td>$f(x)$</td><td>その値の「起こりやすさ」</td></tr>
<tr><td>累積分布関数 $F(x)$</td><td>$\\sum_{t\\le x}p(t)$</td><td>$\\int_{-\\infty}^{x}f(t)dt$</td><td>$P(X\\le x)$。単調増加で0→1</td></tr>
<tr><td>生存関数 $S(x)$</td><td colspan="2">$1-F(x)=P(X>x)$</td><td>「$x$ を超える」確率</td></tr>
</table>
<p>連続分布では $f(x)=F'(x)$（密度は分布関数の傾き）。密度そのものは確率ではなく、<strong>面積</strong>が確率です：$P(a<X\\le b)=F(b)-F(a)=\\int_a^b f\\,dx$。</p>
<h3>なぜ密度は確率ではないのか</h3>
<p>連続変数では<strong>1点の確率は必ず0</strong>です：$P(X=x)=\\lim_{h\\to0}\\int_{x}^{x+h}f\\,dt=0$。だから「$X$ がちょうど $x$」を確率で語ることはできず、意味を持つのは<strong>区間</strong>だけ。微小区間で $P(x<X\\le x+dx)\\approx f(x)\\,dx$ となり、$f(x)$ は「確率の<strong>密度</strong>（単位長さあたりの確率）」です——だから $f(x)>1$ もあり得ます（例：$U(0,0.5)$ で $f=2$）。積分すれば確率に戻り、全区間で $\\int_{-\\infty}^{\\infty}f\\,dx=1$。$F$ と $S$ は同じ情報の裏表で、$S(x)=1-F(x)$、ハザード関数 $h(x)=f(x)/S(x)$（<a href="#/prep1/survival">生存時間解析</a>で主役）もここから定義されます。</p>
<h3>前提と、崩れたときの注意</h3>
<p>この枠組みは分布の型で使い分けます。<strong>累積分布関数 $F$ はどんな確率変数にも必ず存在</strong>（単調非減少・右連続・0→1）しますが、<strong>密度 $f$ は「絶対連続」な分布にしか存在しません</strong>。離散変数に密度はなく、確率関数 $p(x)$ を使います。実データで多い<strong>混合型</strong>——たとえば「多くが0で、正の値は連続」（降水量・保険金）や<a href="#/prep1/survival">打ち切り</a>データ——は、点質量と密度が混在し純粋な $f$ で書けません。こういうときは $F$（や $S$）で扱うのが安全です。裾の重い分布では平均や分散が存在しなくても $F,S$ は普通に定義できる、という点も $F$ ベースで考える利点です。</p>
<div class="note">下で分布と閾値 $x$ を動かし、密度の下の面積（＝cdf）と、右裾の面積（＝生存関数）が対応していることを見てください。密度の<strong>高さ</strong>（ピーク）は確率ではなく、塗った<strong>面積</strong>が確率だという点に注意。生存関数は信頼性工学や生存時間解析で主役になります。</div>`,
    demo: {
      task: {
        q: '分布を「指数」にして閾値 $x$ を動かし、$P(X>x)$ がどう減るかを見てください。次に「正規」に切り替えて同じ $x$ で比べると、裾の減り方はどう違いますか。',
        a: '<p>指数分布の上側確率は $e^{-\\lambda x}$ で、<strong>$x$ が1増えるごとに一定の倍率で減ります</strong>（等比的）。正規分布は $e^{-x^2/2}$ 的に減るので、<strong>$x$ が大きくなるほど減り方が加速します</strong>。</p><p>$x=0.5$ では 指数 $0.607$ / 正規 $0.309$ と正規のほうが小さいのに、$x$ を大きくしていくと<strong>逆転して指数のほうが大きくなります</strong>（裾が重い）。$x=3$ なら 指数 $0.050$ / 正規 $0.0013$ で、40倍近い差。</p><p>これが<strong>「裾の重さ」</strong>の意味です。中心付近の見た目が似ていても、極端な事象の確率は桁で違う。<strong>正規分布を仮定すると稀な事象を著しく過小評価します</strong>——$5\\sigma$ の事象を「100万年に1度」と見積もったのに実際には数年に1度起きる、という事故はこの取り違えから生まれます。</p><p>密度そのものと上側確率（面積）の違いにも注意してください。<strong>密度の値は確率ではありません</strong>——確率になるのは面積にしてからです。',
      },
      note: '縦線 x を動かすと、左の塗り面積が F(x)=P(X≤x)、右の塗り面積が S(x)=1−F(x)。密度のピークの高さは確率ではない点に注意。',
      controls: [
        { type: 'select', id: 'dist', label: '分布', value: 'normal', options: [
          { value: 'normal', label: '正規分布' },
          { value: 'exp', label: '指数分布' },
        ]},
        { type: 'range', id: 'x', label: '閾値 x', min: -3, max: 6, step: 0.1, value: 0.5 },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const isExp = p.dist === 'exp';
        const xmin = isExp ? 0 : -4, xmax = 6;
        const pdf = x => isExp ? (x < 0 ? 0 : Math.exp(-x)) : st.normalPdf(x, 1, 1.2);
        const cdf = x => isExp ? (x < 0 ? 0 : 1 - Math.exp(-x)) : st.normalCdf(x, 1, 1.2);
        const xs = st.linspace(xmin, xmax, 240);
        const pl = Pl.make(canvas, { xmin, xmax, ymin: 0, ymax: isExp ? 1.05 : 0.38 });
        pl.clear(); pl.axes({ xLabel: 'x', yLabel: '密度 f(x)' });
        const xc = Math.max(xmin, Math.min(xmax, p.x));
        const left = xs.filter(x => x <= xc).map(x => [x, pdf(x)]);
        const right = xs.filter(x => x >= xc).map(x => [x, pdf(x)]);
        if (left.length) pl.fillUnder(left, { color: '#4f6df5', alpha: 0.3 });
        if (right.length) pl.fillUnder(right, { color: '#e4572e', alpha: 0.22 });
        pl.line(xs.map(x => [x, pdf(x)]), { color: Pl.ink, width: 2 });
        pl.vline(xc, { color: Pl.gray, label: 'x=' + xc.toFixed(1) });
        pl.text(xmax, isExp ? 1.05 : 0.38, 'F(x)=P(X≤x)=' + cdf(xc).toFixed(3), { align: 'right', baseline: 'top', dx: -8, dy: 6, color: '#4f6df5', size: 13 });
        pl.text(xmax, isExp ? 1.05 : 0.38, 'S(x)=P(X>x)=' + (1 - cdf(xc)).toFixed(3), { align: 'right', baseline: 'top', dx: -8, dy: 26, color: '#e4572e', size: 13 });
      },
    },
  });

  /* --- 同時分布・周辺分布・条件付き分布 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'joint-distribution', title: '同時分布・周辺分布・条件付き分布',
    summary: '2変数の同時分布から、周辺分布（片方に潰す）と条件付き分布（片方を固定して切る）がどう得られるかを、格子と断面で見ます。',
    body: `
<p>2つの確率変数 $(X,Y)$ の<strong>同時分布</strong> $f(x,y)$ から、次が得られます。</p>
<ul>
<li><strong>周辺分布</strong>：一方を積分（和）で消す。$f_X(x)=\\int f(x,y)\\,dy$。散布図を軸に「影を落とす」イメージ。</li>
<li><strong>条件付き分布</strong>：一方を固定して切る。$f_{Y\\mid X}(y\\mid x)=\\dfrac{f(x,y)}{f_X(x)}$。相関があると、$x$ の値ごとに $Y$ の中心が動きます。</li>
</ul>
<p>独立 $\\iff f(x,y)=f_X(x)f_Y(y)$。このとき条件付き分布は $x$ によらず一定になります。</p>
<h3>全期待値・全分散の公式（分散の分解）</h3>
<p>条件付き期待値 $E[Y\\mid X]$ は「$X$ の値を決めるごとに定まる数」なので、$X$ が確率変数である以上、<strong>これ自体も確率変数</strong>です。この見方から2つの公式が出ます。</p>
<p>$$ E[Y]=E\\big[E[Y\\mid X]\\big],\\qquad
V[Y]=\\underbrace{E\\big[V[Y\\mid X]\\big]}_{\\text{各}x\\text{の中での散らばり}}+\\underbrace{V\\big[E[Y\\mid X]\\big]}_{\\text{中心そのものの散らばり}} $$</p>
<p>全分散の公式は「<strong>$Y$ の全変動 ＝ 群内の変動 ＋ 群間の変動</strong>」と読めます。上の2次元正規で確かめると、$V[Y\\mid X]=1-\\rho^2$（$x$ によらず一定）なので第1項は $1-\\rho^2$、$E[Y\\mid X]=\\rho X$ なので第2項は $V[\\rho X]=\\rho^2$。足すと $V[Y]=1$ でぴったり合います。</p>
<p>この分解は後々あちこちで顔を出します——第2項の割合 $\\rho^2$ が「$X$ で説明できた分散の割合」＝<a href="#/prep1/regression">決定係数 $R^2$</a> そのものであり、$X$ を「群」に置き換えれば<a href="#/prep1/anova1">分散分析の平方和分解</a>、推定量に使えば<a href="#/prep1/sufficiency">ラオ・ブラックウェルの定理</a>（条件付ければ分散が下がる）の根拠になります。</p>
<h3>条件付き分布の中心はなぜ動くか（2次元正規で）</h3>
<p>標準化した2次元正規分布（各成分 $N(0,1)$、相関 $\\rho$）の密度は指数の肩に $-\\dfrac{x^2-2\\rho xy+y^2}{2(1-\\rho^2)}$ を持ちます。$x=x_0$ で切って $y$ の関数として平方完成すると、$y$ について $-\\dfrac{(y-\\rho x_0)^2}{2(1-\\rho^2)}$ の形になり、</p>
<p>$$ Y\\mid X=x_0\\ \\sim\\ N\\big(\\rho\\,x_0,\\ 1-\\rho^2\\big) $$</p>
<p>が読み取れます。<strong>条件付き平均 $\\rho x_0$ は $x_0$ の1次式＝これが回帰直線の正体</strong>（<a href="#/prep1/regression">線形回帰</a>の傾きが相関に比例する理由）。<strong>条件付き分散 $1-\\rho^2$ は $x$ を知ることで減った不確かさ</strong>で、$\\rho^2$ が決定係数 $R^2$ に対応します。数値実験でも $x_0=1,\\rho=0.6$ で条件付き平均 $\\approx0.59$（理論 $0.6$）・分散 $\\approx0.65$（理論 $0.64$）と一致します。</p>
<h3>「無相関」と「独立」は違う（重要な注意）</h3>
<p>独立なら必ず無相関（$\\rho=0$）ですが、<strong>逆は成り立ちません</strong>。相関は<strong>直線的な</strong>関係しか測らないからです。例：$X\\sim N(0,1)$ と $Y=X^2$ は $\\mathrm{Cov}(X,Y)=E[X^3]=0$ で<strong>無相関なのに完全に従属</strong>（$Y$ は $X$ で決まる）。曲線的・対称な関係は相関に映りません。「$\\rho=0$ だから独立」と言えるのは<strong>同時分布が正規のとき（またはそれに類する特別な場合）だけ</strong>——下のデモが2次元正規なのは、まさにその特別なケースを見せているためで、一般には $\\rho=0$ でも $x_0$ を動かすと条件付き分布の<em>形</em>が変わりうる点に注意してください。独立性を主張したいときは、相関ではなく条件付き分布そのものや $\\chi^2$ 独立性検定で確かめます。</p>
<div class="note">下は2次元正規分布の等高線。相関 $\\rho$ を上げると等高線が斜めの楕円になり、$x=x_0$ で切った条件付き分布（右の断面）の中心が上式どおり $\\rho x_0$ へ移動します。$\\rho=0$ では動きません（この2次元正規では無相関＝独立）。ただし上で見たとおり、無相関が独立を意味するのは正規のような特別な場合に限られます。</div>`,
    demo: {
      task: {
        q: '$\\rho$ を0にして切る位置 $x_0$ を動かしてください。条件付き分布はどうなりますか。次に $\\rho=0.9$ にして同じことをすると何が変わりますか。',
        a: '<p><strong>$\\rho=0$ のとき</strong>：$x_0$ をどこに動かしても、条件付き分布 $Y\\mid X=x_0$ は<strong>まったく同じ</strong>（平均0、分散1）。$X$ の値を知っても $Y$ の見通しが変わらない——これが独立の意味です。</p><p><strong>$\\rho=0.9$ のとき</strong>：$x_0$ を動かすと条件付き分布が<strong>一緒に平行移動し、しかも幅が狭くなります</strong>。$Y\\mid X=x_0\\sim N(\\rho x_0,\\ 1-\\rho^2)$ なので、平均は $0.9x_0$、分散は $0.19$（元の1から81%減）。</p><p>この2つが<strong>回帰と決定係数の正体</strong>です。条件付き平均 $\\rho x$ が<a href="#/prep1/regression">回帰直線</a>そのもので、減った分散の割合 $\\rho^2=0.81$ が<strong>決定係数 $R^2$</strong>。「$X$ で説明できた分散の割合」という $R^2$ の定義が、この図の「幅がどれだけ縮んだか」として目に見えます。</p><p>$\\rho=0.6$ なら条件付き分散は $0.64$、つまり $R^2=0.36$。相関0.6は「そこそこ強い」印象ですが、説明できるのは変動の36%だけ——この落差も確かめてください。',
      },
      note: '相関ρを0にすると、切る位置x₀を変えても条件付き分布(右)は動かない＝独立。ρを上げると x₀ に連動して中心が動く＝XがYの情報を持つ。',
      controls: [
        { type: 'range', id: 'rho', label: '相関 ρ', min: -0.9, max: 0.9, step: 0.1, value: 0.6 },
        { type: 'range', id: 'x0', label: '切る位置 x₀', min: -2.4, max: 2.4, step: 0.1, value: 1 },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const dpr = window.devicePixelRatio || 1;
        const W = canvas.clientWidth, H = canvas.clientHeight;
        canvas.width = Math.round(W * dpr); canvas.height = Math.round(H * dpr);
        const ctx = canvas.getContext('2d');
        ctx.setTransform(dpr, 0, 0, dpr, 0, 0);
        ctx.clearRect(0, 0, W, H);
        const rho = p.rho, x0 = p.x0;
        // 左：等高線ヒートマップ
        const lw = W * 0.62, lh = H, pad = 34;
        const g = (x, y) => {
          const z = (x * x - 2 * rho * x * y + y * y) / (1 - rho * rho);
          return Math.exp(-z / 2);
        };
        const xmin = -3, xmax = 3, ymin = -3, ymax = 3;
        const X = v => pad + ((v - xmin) / (xmax - xmin)) * (lw - pad - 10);
        const Y = v => H - pad - ((v - ymin) / (ymax - ymin)) * (H - 2 * pad);
        const cols = 70, rows = 70;
        for (let i = 0; i < cols; i++) for (let j = 0; j < rows; j++) {
          const x = xmin + (xmax - xmin) * i / cols, y = ymax - (ymax - ymin) * j / rows;
          const v = g(x, y);
          const rr = Math.round(255 - 120 * v), gg = Math.round(255 - 90 * v), bb = Math.round(255 - 20 * v);
          ctx.fillStyle = 'rgb(' + rr + ',' + gg + ',' + bb + ')';
          ctx.fillRect(X(x), Y(y) - (H - 2 * pad) / rows, (lw - pad - 10) / cols + 1, (H - 2 * pad) / rows + 1);
        }
        ctx.strokeStyle = '#c7cdd8'; ctx.strokeRect(pad, pad, lw - pad - 10, H - 2 * pad);
        // 切断線
        ctx.strokeStyle = '#e4572e'; ctx.lineWidth = 2; ctx.setLineDash([6, 4]);
        ctx.beginPath(); ctx.moveTo(X(x0), pad); ctx.lineTo(X(x0), H - pad); ctx.stroke();
        ctx.setLineDash([]);
        ctx.fillStyle = '#e4572e'; ctx.font = '12px sans-serif'; ctx.textAlign = 'center';
        ctx.fillText('x₀=' + x0.toFixed(1), X(x0), pad - 4);
        ctx.fillStyle = '#475467'; ctx.textAlign = 'center';
        ctx.fillText('同時分布 f(x,y)（等高線）', lw / 2, H - 8);
        // 右：条件付き分布 Y|X=x0 は N(ρ x0, 1-ρ²)
        const rx = lw + 12, rw = W - rx - 16;
        const cmu = rho * x0, csd = Math.sqrt(1 - rho * rho);
        const ymn = -3, ymx = 3;
        const YR = v => H - pad - ((v - ymn) / (ymx - ymn)) * (H - 2 * pad);
        const maxd = st.normalPdf(cmu, cmu, csd);
        ctx.strokeStyle = '#4f6df5'; ctx.lineWidth = 2.5; ctx.beginPath();
        let first = true;
        for (let j = 0; j <= 100; j++) {
          const y = ymn + (ymx - ymn) * j / 100;
          const d = st.normalPdf(y, cmu, csd) / maxd;
          const px = rx + d * (rw - 6), py = YR(y);
          if (first) { ctx.moveTo(px, py); first = false; } else ctx.lineTo(px, py);
        }
        ctx.stroke();
        ctx.strokeStyle = '#c7cdd8'; ctx.lineWidth = 1;
        ctx.beginPath(); ctx.moveTo(rx, pad); ctx.lineTo(rx, H - pad); ctx.stroke();
        ctx.strokeStyle = '#e4572e'; ctx.setLineDash([4, 3]);
        ctx.beginPath(); ctx.moveTo(rx, YR(cmu)); ctx.lineTo(rx + rw, YR(cmu)); ctx.stroke();
        ctx.setLineDash([]);
        ctx.fillStyle = '#475467'; ctx.font = '11.5px sans-serif'; ctx.textAlign = 'center';
        ctx.fillText('Y | X=x₀', rx + rw / 2, H - 8);
        ctx.fillText('中心 ' + cmu.toFixed(2), rx + rw / 2, YR(cmu) - 8);
      },
    },
  });

  /* --- モーメントと分布の形（歪度・尖度） --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'moments-shape', title: 'モーメント・歪度・尖度・変動係数',
    summary: '平均・分散の先にある「歪度（左右の非対称）」と「尖度（裾の重さ）」を、分布の形を動かして体で覚えます。',
    body: `
<p>分布の形は<strong>モーメント</strong>で特徴づけます。平均まわりの $k$ 次モーメント $\\mu_k=E[(X-\\mu)^k]$ から、</p>
<ul>
<li><strong>分散</strong> $\\sigma^2=\\mu_2$：広がり。</li>
<li><strong>歪度</strong> $\\gamma_1=\\mu_3/\\sigma^3$：左右の非対称。正なら右に裾を引く（右歪み）。</li>
<li><strong>尖度</strong> $\\gamma_2=\\mu_4/\\sigma^4-3$：裾の重さ・とがり。正規分布を基準($0$)に、正なら裾が重い（外れ値が出やすい）。</li>
<li><strong>変動係数</strong> $CV=\\sigma/\\mu$：ばらつきを平均で割った「相対的ばらつき」。単位に依らず比較できる。</li>
</ul>
<h3>なぜ $\\sigma^3$・$\\sigma^4$ で割り、なぜ $-3$ するか</h3>
<p>生の3次モーメント $\\mu_3$ は単位が「$x^3$」で、測る単位を変えるだけで値が変わってしまいます。$\\sigma^3$ で割ると単位が打ち消され、<strong>歪度 $\\gamma_1=\\mu_3/\\sigma^3$ は無次元＝スケール不変</strong>になります（尖度が $\\sigma^4$ で割るのも同じ理由）。尖度で $3$ を引くのは、<strong>正規分布の $\\mu_4/\\sigma^4$ がちょうど $3$</strong> だから——引くことで「正規＝0」を基準にでき、正なら正規より裾が重い（<a href="#/prep1/distributions">外れ値が出やすい</a>）、負なら裾が軽いと読めます（超過尖度）。数値でも標準正規は $\\mu_4/\\sigma^4=3.00$、$\\gamma_2\\approx0$ を確認できます。</p>
<h3>前提と、崩れたときの注意</h3>
<p><strong>そもそもモーメントは存在するとは限りません</strong>。裾が重い分布では高次モーメントが発散します：$t$ 分布は自由度が $k$ 以下だと $k$ 次以上のモーメントが無限大（$t_3$ は分散は有限だが4次モーメントは∞→尖度が定義できない）、コーシー分布に至っては平均さえ存在しません。存在しないモーメントを標本から「計算」すると値は出ますが、$n$ を増やしても収束せず<strong>暴れ続けます</strong>。実務上さらに厄介なのは、<strong>標本歪度・標本尖度は高次の累乗平均なので少数の外れ値に極端に敏感で、小標本では非常に不安定</strong>なこと。歪度・尖度を報告するときは大きめの $n$ とロバストな代替（分位点ベースの歪み指標など）を併用します。<strong>変動係数 $CV=\\sigma/\\mu$ は $\\mu$ が0付近だと爆発し、$\\mu$ が負や比率尺度でない（間隔尺度の）データでは意味を持ちません</strong>——比率尺度（絶対的な0がある量）にだけ使う指標です。</p>
<div class="note">歪度スライダーで山が左右に偏り、尖度スライダーで裾の重さ（ピークの鋭さ）が変わります。平均・分散が同じでも形が違う、という感覚をつかんでください。裾を重くした形は、上で述べた「高次モーメントが不安定になる」状況に対応します。</div>`,
    demo: {
      task: {
        q: '尖度を0に固定して歪度を $-0.8$ → 0 → $+0.8$ と動かし、次に歪度0のまま尖度を0 → 0.9 に上げてください。平均・中央値・最頻値の並びと、裾の厚さはそれぞれどう変わりますか。',
        a: '<p><strong>歪度を動かすと</strong>：$+0.8$（右歪み）では <strong>最頻値 &lt; 中央値 &lt; 平均</strong> の順に並び、右に長い裾ができます。$-0.8$ では順序が逆転。歪度0では3つが一致します。</p><p><strong>尖度を上げると</strong>：左右対称のまま<strong>中心が尖り、裾が厚くなります</strong>。分散は同じでも、極端な値が出る確率が上がる——「たまに大きく外れる」分布です。</p><p>実務での意味が違います。<strong>歪度は「代表値をどれで報告するか」の問題</strong>（右歪みなら平均が高めに引っ張られるので中央値を併記）。<strong>尖度は「リスクの見積もり」の問題</strong>——正規分布を仮定すると $3\\sigma$ を超える確率を0.3%と見積もりますが、裾の重い分布では実際にはずっと高い。金融危機や品質事故の「想定外」の多くは、この超過尖度の見落としです。</p><p>2つは独立に動かせることも確かめてください。<strong>「対称だから正規」ではありません</strong>——歪度0でも尖度が正なら正規ではなく、$t$ 分布のような裾の重い分布です。',
      },
      note: '歪度>0は右に長い裾（所得分布など）。尖度>0は「中心が尖り裾が重い」＝正規より外れ値が出やすい。歪度・尖度は平均分散だけでは捉えられない情報です。',
      controls: [
        { type: 'range', id: 'skew', label: '歪度（右歪み→）', min: -0.8, max: 0.8, step: 0.05, value: 0.5 },
        { type: 'range', id: 'kurt', label: '尖度（裾の重さ→）', min: 0, max: 0.9, step: 0.05, value: 0.3 },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        // スキュー正規＋裾の混合で形を作る（教育目的の近似）
        const skew = p.skew, kurt = p.kurt;
        const base = (x) => st.normalPdf(x, 0, 1);
        const heavy = (x) => 0.5 * st.tPdf(x, 3); // 重い裾成分
        const f = (x) => {
          const g = (1 - kurt) * base(x) + kurt * heavy(x);
          const s = 1 + skew * Math.tanh(x); // 右/左に非対称化
          return g * s;
        };
        const xs = st.linspace(-5, 5, 300);
        // 正規化
        let area = 0; const dx = 10 / 299;
        for (const x of xs) area += Math.max(0, f(x)) * dx;
        const norm = xs.map(x => [x, Math.max(0, f(x)) / area]);
        const pl = Pl.make(canvas, { xmin: -5, xmax: 5, ymin: 0, ymax: 0.5 });
        pl.clear(); pl.axes({ xLabel: 'x', yLabel: '密度' });
        pl.line(xs.map(x => [x, st.normalPdf(x)]), { color: Pl.gray, dash: [5, 4], width: 1.5 });
        pl.line(norm, { color: Pl.colors[0], width: 2.5 });
        pl.fillUnder(norm, { color: Pl.colors[0], alpha: 0.12 });
        pl.legend([{ label: '標準正規（基準）', color: Pl.gray }, { label: 'この分布', color: Pl.colors[0] }]);
        pl.text(-5, 0.5, '歪度 γ₁ ' + (skew > 0.05 ? '> 0（右歪み）' : skew < -0.05 ? '< 0（左歪み）' : '≈ 0'), { align: 'left', baseline: 'top', dx: 60, dy: 4, color: '#475467', size: 12.5 });
        pl.text(-5, 0.5, '尖度 γ₂ ' + (kurt > 0.05 ? '> 0（裾が重い）' : '≈ 0'), { align: 'left', baseline: 'top', dx: 60, dy: 24, color: '#475467', size: 12.5 });
      },
    },
  });

  /* --- モーメント母関数・確率母関数 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'mgf', title: 'モーメント母関数・確率母関数',
    summary: '母関数を1回・2回…微分するとモーメントが「湧き出す」仕組みと、和の分布が積で書ける便利さを理解します。',
    body: `
<p><strong>モーメント母関数 (MGF)</strong> は $M_X(t)=E[e^{tX}]$ で定義されます。$e^{tX}$ をテイラー展開すると</p>
<p>$$ M_X(t)=E\\!\\left[\\sum_{k=0}^\\infty \\frac{(tX)^k}{k!}\\right]=\\sum_{k=0}^\\infty \\frac{t^k}{k!}E[X^k] $$</p>
<p>なので $t=0$ での $k$ 階微分がちょうど $k$ 次モーメントになります：$\\left.\\dfrac{d^k}{dt^k}M_X(t)\\right|_{t=0}=E[X^k]$。名前どおり「モーメントを生成する関数」です。</p>
<h3>2つの強力な性質</h3>
<ul>
<li><strong>和は積になる</strong>：独立なら $M_{X+Y}(t)=M_X(t)M_Y(t)$。畳み込み積分が掛け算に化けるので、独立同分布の和の分布が簡単に求まる。</li>
<li><strong>分布を一意に決める</strong>：MGF が一致すれば分布も一致。分布の「指紋」。</li>
</ul>
<p>離散で $0,1,2,\\dots$ の値をとるときは<strong>確率母関数</strong> $G_X(s)=E[s^X]=\\sum_k P(X=k)s^k$ が便利で、$G_X^{(k)}(0)/k!=P(X=k)$、$G_X'(1)=E[X]$ が取り出せます。</p>
<h3>前提と、崩れたときの注意</h3>
<p>MGF の最大の落とし穴は<strong>「存在するとは限らない」</strong>ことです。$M_X(t)=E[e^{tX}]$ が使えるのは、$t=0$ を含む開区間で<strong>この期待値が有限</strong>のとき。裾が重い分布ではこれが発散します——対数正規分布は $t>0$ のすべてで $E[e^{tX}]=\\infty$（数値実験でも $t=0.5$ で標本平均が $10^{27}$ 規模に暴走）、$t$ 分布やコーシー分布も MGF を持ちません。存在しない MGF を形式的に微分して「モーメント」を出すと誤りになります。そこで理論では、$e^{tX}$ の代わりに $e^{itX}$（$i$ は虚数単位）を使う<strong>特性関数</strong> $\\varphi_X(t)=E[e^{itX}]$ が主役です——$|e^{itX}|=1$ なので<strong>どんな分布でも必ず存在</strong>し、MGF と同じ「和は積・分布を一意に決める」性質を持ちます。「MGF が一致すれば分布が一致」という一意性定理も、正確には<strong>MGF が0の近傍で存在する</strong>ことが前提です。実用では、MGF が存在すれば計算が楽なので使い、存在しない裾の重い分布では特性関数に切り替える、と使い分けます。</p>
<div class="note">例：正規 $N(\\mu,\\sigma^2)$ の MGF は $\\exp(\\mu t+\\tfrac12\\sigma^2 t^2)$。独立な正規の和も正規になるのは、MGF の積がまた同じ形になるからです（再生性）。下でパラメータを変え、MGF の $t=0$ 近傍の曲がり方（＝分散）を見てください。正規は全 $t$ で MGF が存在する「行儀の良い」例です。</div>`,
    demo: {
      task: {
        q: '$\\mu$ を 0.5 → 2 に上げた場合と、$\\sigma$ を 1 → 1.6 に上げた場合で、母関数 $M(t)$ の立ち上がり方はどう違いますか。$t=0$ 近傍の傾きと曲がりは何を表しますか。',
        a: '<p>正規分布の母関数は $M(t)=\\exp(\\mu t+\\sigma^2t^2/2)$。</p><ul><li><strong>$\\mu$ を上げる</strong>：$t$ に<strong>比例する項</strong>が増えるので、原点近くの<strong>傾き</strong>が急になります。$M\'(0)=\\mu$ ——1階微分がそのまま平均。</li><li><strong>$\\sigma$ を上げる</strong>：$t^2$ の項が増えるので、原点近くの<strong>曲がり（反り上がり）</strong>が強くなります。$M\'\'(0)=\\mu^2+\\sigma^2$ なので、2階微分から分散が取り出せます。</li></ul><p>つまり<strong>$t=0$ での傾きが平均、曲がりが分散</strong>——母関数という1本の曲線に、分布のすべてのモーメントが「$t=0$ での微分の列」として畳み込まれています。</p><p>$\\mu=2,\\sigma=1$ で $M(1)=e^{2.5}=12.18$ のように、$t$ が大きいと値が急激に膨らむことも確かめてください。だから母関数は<strong>$t=0$ の近くでしか使いません</strong>（そもそも存在しない分布もあり、その場合は特性関数を使います）。',
      },
      note: 'MGF は t=0 で必ず1を通り、そこでの傾き＝平均、曲がり具合（2階微分）＝E[X²]。σを上げると t=0 近傍で急に立ち上がる（分散が大きい）様子が見えます。',
      controls: [
        { type: 'range', id: 'mu', label: '平均 μ', min: -1, max: 2, step: 0.1, value: 0.5 },
        { type: 'range', id: 'sd', label: '標準偏差 σ', min: 0.4, max: 1.6, step: 0.1, value: 1 },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const mu = p.mu, sd = p.sd;
        const M = t => Math.exp(mu * t + 0.5 * sd * sd * t * t);
        const ts = st.linspace(-1.5, 1.5, 200);
        const ys = ts.map(t => M(t));
        const pl = Pl.make(canvas, { xmin: -1.5, xmax: 1.5, ymin: 0, ymax: Math.min(8, Math.max.apply(null, ys)) });
        pl.clear(); pl.axes({ xLabel: 't', yLabel: 'M_X(t) = E[e^{tX}]' });
        pl.line(ts.map((t, i) => [t, ys[i]]), { color: Pl.colors[0], width: 2.5 });
        // t=0 での接線（傾き=μ）
        pl.scatter([[0, 1]], { color: Pl.colors[1], r: 5 });
        const tangent = ts.map(t => [t, 1 + mu * t]);
        pl.line(tangent, { color: Pl.colors[1], dash: [5, 4], width: 1.5 });
        pl.legend([{ label: 'MGF', color: Pl.colors[0] }, { label: 't=0の接線（傾き=μ=' + mu.toFixed(1) + '）', color: Pl.colors[1] }]);
        pl.text(-1.5, Math.min(8, Math.max.apply(null, ys)), "M(0)=1, M'(0)=μ, M''(0)=E[X²]=" + (sd * sd + mu * mu).toFixed(2), { align: 'left', baseline: 'top', dx: 60, dy: 4, color: '#475467', size: 12.5 });
      },
    },
  });

  /* --- 変数変換と線形結合 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'transformations', title: '変数変換と確率変数の線形結合',
    summary: '$Y=g(X)$ と変数を変換したとき密度がどう変わるか（ヤコビアン）と、線形結合の平均・分散の公式を可視化します。',
    body: `
<p>確率変数 $X$ を $Y=g(X)$ と変換すると、密度は「引き伸ばし・圧縮」の分だけ変わります。$g$ が単調なら</p>
<p>$$ f_Y(y)=f_X\\!\\big(g^{-1}(y)\\big)\\left|\\frac{dx}{dy}\\right| $$</p>
<p>最後の $|dx/dy|$ が<strong>ヤコビアン</strong>。変換で軸が伸びた所は密度が薄まり、縮んだ所は濃くなります（確率の総量1は保存）。</p>
<h3>線形結合はモーメントだけで決まる</h3>
<p>分布の形が何であれ、線形結合 $aX+bY+c$ の平均と分散は次の公式で計算できます。</p>
<p>$$ E[aX+bY+c]=a\\mu_X+b\\mu_Y+c $$</p>
<p>$$ V[aX+bY]=a^2\\sigma_X^2+b^2\\sigma_Y^2+2ab\\,\\mathrm{Cov}(X,Y) $$</p>
<p>独立なら共分散項が消え、<strong>分散は足し算</strong>（標準偏差は足し算ではない点に注意）。これが誤差の伝わり方や標準誤差 $\\sigma/\\sqrt{n}$ の根拠です。</p>
<h3>なぜヤコビアンで割るのか</h3>
<p>確率は「面積（総量）」で、変換で失われも増えもしません。区間 $[x,x+dx]$ の確率 $f_X(x)\\,dx$ が、変換先の区間 $[y,y+dy]$ の確率 $f_Y(y)\\,dy$ とちょうど等しい——$f_Y(y)\\,dy=f_X(x)\\,dx$。両辺を $dy$ で割れば $f_Y(y)=f_X(x)\\,|dx/dy|$ です。$g$ が急勾配の所（$|dy/dx|$ 大）は同じ確率が広い $y$ 区間に薄く伸ばされ、緩勾配の所は狭い区間に濃く圧縮される——密度が「傾きの逆数」で決まるのはこのためです。$g$ が単調でない（例 $Y=X^2$ で $X$ が正負両方をとる）ときは、$y$ に対応する $x$ が複数あるので<strong>それぞれの枝の寄与を足し合わせます</strong>。</p>
<h3>多変量の変換：ヤコビ行列式で体積の伸び縮みを測る</h3>
<p>1変数の $|dx/dy|$ に当たるものが、多変量では<strong>ヤコビ行列式</strong>です。$\\boldsymbol y=g(\\boldsymbol x)$ が1対1なら</p>
<p>$$ f_{\\boldsymbol Y}(\\boldsymbol y)=f_{\\boldsymbol X}\\big(g^{-1}(\\boldsymbol y)\\big)\\,\\big|\\det J\\big|,\\qquad J=\\frac{\\partial\\boldsymbol x}{\\partial\\boldsymbol y}=\\left(\\frac{\\partial x_i}{\\partial y_j}\\right) $$</p>
<p>$|\\det J|$ は「微小な<strong>体積</strong>が変換で何倍になるか」。1次元の $|dx/dy|$ が長さの比だったのを、体積の比に置き換えただけです。線形変換 $\\boldsymbol y=A\\boldsymbol x$ なら $J=A^{-1}$ なので $|\\det J|=1/|\\det A|$ と定数になり、これが<a href="#/prep1/multivariate-normal">多変量正規分布</a>の密度に $|\\Sigma|^{-1/2}$ が現れる理由です（$\\Sigma=AA^\\top$ とすると $|\\det A|=|\\Sigma|^{1/2}$）。</p>
<h3>確率積分変換：どんな連続分布も一様分布に化ける</h3>
<p>変換の中で飛び抜けて使い出があるのがこれです。連続な分布関数 $F$ を持つ $X$ に、その $F$ 自身を通すと</p>
<p>$$ U=F(X)\\ \\sim\\ \\mathrm{Unif}(0,1) $$</p>
<p>になります。導出は一行——$F$ が単調増加なら $P(U\\le u)=P\\big(X\\le F^{-1}(u)\\big)=F\\big(F^{-1}(u)\\big)=u$ で、これは $\\mathrm{Unif}(0,1)$ の分布関数そのものです。</p>
<p>使い道が2方向あります。<strong>逆向きに使う（逆関数法）</strong>：$U\\sim\\mathrm{Unif}(0,1)$ から $X=F^{-1}(U)$ とすれば狙った分布の乱数が作れます。指数分布なら $F(x)=1-e^{-\\lambda x}$ を解いて $X=-\\ln(1-U)/\\lambda$。<a href="#/prep1/monte-carlo">モンテカルロ法</a>の乱数生成の基本原理がこれです。<strong>順向きに使う（診断）</strong>：当てはめた分布が正しければ $F(x_i)$ は $(0,1)$ に一様に散らばるはずなので、その一様性を見れば分布の当てはまりを検査できます。<a href="#/prep1/goodness-of-fit">適合度</a>の考え方やQ-Qプロット、生存解析のコックス-スネル残差は、いずれもこの原理で動いています。</p>
<h3>前提と、崩れたときの注意</h3>
<p>ヤコビアンの公式は $g$ が<strong>単調かつ微分可能</strong>という前提の上に立ちます。単調でなければ上のように枝を足す必要があり、$g$ が定数になる区間があると（微分0）そこに<strong>点質量</strong>が生じて純粋な密度で書けません。線形結合の分散公式 $V[aX+bY]=a^2\\sigma_X^2+b^2\\sigma_Y^2+2ab\\,\\mathrm{Cov}$ は分布の形によらず<strong>常に正しい</strong>強力な式ですが、注意は2点——<strong>(1) 独立でなければ共分散項を省けない</strong>（相関を無視すると誤差伝播を過小/過大評価）、<strong>(2) 非線形変換 $g(X,Y)$ の分散はこの式では出ない</strong>。非線形の場合は1次のテイラー展開で近似する<a href="#/prep1/delta-method">デルタ法</a>を使い、それは近似にすぎない（曲率が強いと誤差が乗る）ことに注意します。</p>
<div class="note">下は $X\\sim$一様分布を $Y=g(X)$ で変換した密度。$g$ を変えると、傾きが急なところで密度が薄く、緩いところで濃くなる（ヤコビアンの効果）のが見えます。$Y=X^2$ は $X\\in[0.05,2]$ で単調なので枝は1本ですが、もし $X$ が負も取れば2本の枝を足すことになります。</div>`,
    demo: {
      task: {
        q: '変換を $Y=X^2$ と $Y=\\sqrt X$ で切り替えてください（元は一様分布）。変換後の密度はそれぞれどんな形になりますか。一様だったものが一様でなくなるのはなぜですか。',
        a: '<p><strong>$Y=X^2$</strong>：密度は $f_Y(y)=\\dfrac{1}{2\\sqrt y}$ で、<strong>$y\\to0$ で発散する右下がり</strong>。<strong>$Y=\\sqrt X$</strong>：密度は $f_Y(y)=2y$ で、<strong>右上がりの直線</strong>。</p><p>理由はヤコビアン——密度は「傾きの逆数」倍されるからです。$Y=X^2$ は $x$ が小さいところで傾きが緩い（$dy/dx=2x\\approx0$）ので、狭い $y$ の範囲に多くの確率が押し込まれて<strong>密度が濃くなる</strong>。逆に $x$ が1に近いと傾きが急で、$y$ が引き伸ばされて<strong>薄まる</strong>。</p><p><strong>「確率の総量1は保存されるが、配分は変わる」</strong>——これが変数変換の本質です。地図の投影で面積が歪むのと同じで、伸びたところは薄く、縮んだところは濃くなる。</p><p>もう1つ大事な帰結：<strong>$E[g(X)]\\ne g(E[X])$</strong>。$E[X]=0.5$ でも $E[X^2]=1/3\\ne0.25$ です（イェンセンの不等式）。「平均してから変換」と「変換してから平均」は違う——検量線の逆算や対数変換の報告で事故が起きる典型です。',
      },
      note: 'Y=X²やY=√Xでは、元が一様でも変換後は一様でなくなる。密度は「傾きの逆数」で決まる＝ヤコビアン。指数変換で右に裾を引く様子も確認できます。',
      controls: [
        { type: 'select', id: 'g', label: '変換 Y=g(X)', value: 'sq', options: [
          { value: 'sq', label: 'Y = X²' },
          { value: 'sqrt', label: 'Y = √X' },
          { value: 'exp', label: 'Y = eˣ' },
        ]},
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        // X~Uniform(0.05,2) を変換。数値的にヒストグラムで密度を作る
        const rand = st.rng(31);
        const N = 60000;
        const ys = [];
        for (let i = 0; i < N; i++) {
          const x = 0.05 + 1.95 * rand();
          let y;
          if (p.g === 'sq') y = x * x;
          else if (p.g === 'sqrt') y = Math.sqrt(x);
          else y = Math.exp(x);
        ys.push(y);
        }
        const lo = Math.min.apply(null, ys), hi = Math.max.apply(null, ys);
        const bins = st.histogram(ys, 40, lo, hi);
        const ymax = Math.max.apply(null, bins.map(b => b.density)) * 1.15 || 1;
        const pl = Pl.make(canvas, { xmin: lo, xmax: hi, ymin: 0, ymax });
        pl.clear(); pl.axes({ xLabel: 'Y', yLabel: '密度 f_Y(y)' });
        pl.bars(bins.map(b => ({ x0: b.x0, x1: b.x1, y: b.density })), { color: Pl.colors[0], alpha: 0.6 });
        pl.text(lo, ymax, 'X は一様分布。変換で密度が偏る＝ヤコビアン |dx/dy| の効果', { align: 'left', baseline: 'top', dx: 60, dy: 4, color: '#475467', size: 12.5 });
      },
    },
  });

  /* --- 大数の法則 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'lln', title: '大数の法則',
    summary: '標本平均が試行を重ねるほど母平均に落ち着く様子を、複数の実現パスで観察し、中心極限定理との違いを整理します。',
    body: `
<p><strong>大数の（弱）法則</strong>は、標本平均 $\\bar X_n$ が $n\\to\\infty$ で母平均 $\\mu$ に（確率）収束する、という主張です。</p>
<p>$$ P\\big(|\\bar X_n-\\mu|>\\varepsilon\\big)\\to 0\\quad(n\\to\\infty) $$</p>
<p><strong>なぜ成り立つか（チェビシェフから)</strong>：チェビシェフの不等式 $P(|\\bar X_n-\\mu|>\\varepsilon)\\le V[\\bar X_n]/\\varepsilon^2$ に $V[\\bar X_n]=\\sigma^2/n$ を代入すると、右辺は $\\sigma^2/(n\\varepsilon^2)\\to0$。中心 $\\mu$ は動かず散らばりだけが $1/n$ で消えていく——これが「平均に落ち着く」の中身です（分散有限を使った弱法則の証明）。なお分散がなくても<strong>平均さえ有限なら</strong>弱法則は成り立ちます（ヒンチンの定理）。</p>
<h3>前提と、崩れたときの注意</h3>
<p>大数の法則が成り立つには<strong>母平均 $\\mu$ が存在する（有限）</strong>ことが要ります。ここが崩れる有名な反例が<strong>コーシー分布</strong>——平均が存在せず、標本平均 $\\bar X_n$ は $n$ を増やしても<strong>1点に収束しません</strong>（実は $\\bar X_n$ 自身がまたコーシー分布になり、散らばりが縮まない）。数値実験でも標本平均の四分位範囲が $n=100$ でも $n=10000$ でも約2.0のまま縮みませんでした。裾が極端に重い現象（一部の金融リターン・災害規模）では「サンプルを増やせば平均が安定する」という直感が通用しないことがあり、平均そのものが指標として不適切な場合すらあります。また収束は<strong>独立同分布</strong>を前提にしており、強い系列相関があると有効標本数が減って収束が遅れます。</p>
<div class="note"><strong>大数の法則と中心極限定理の違い</strong>：大数の法則は「$\\bar X_n$ が $\\mu$ に近づく」（1点への収束）。中心極限定理は「$\\bar X_n$ の<em>ばらつきの形</em>が正規分布になる」（分布の形）。前者は的の中心へ、後者はその周りの散らばり方の話です。下のデモで試行回数を増やすと各パスが $\\mu$ へ吸い込まれます——ただし平均が存在するコイン・サイコロだからで、コーシーのような分布ではこの収束は起きません。</div>`,
    demo: {
      task: {
        q: '母集団を「コイン」にして試行回数の上限を20から1000まで上げてください。ばらつきの帯はどう縮みますか。$n$ を25倍にすると帯は何分の1になりますか。',
        a: '<p>帯（$\\pm1.96\\sigma/\\sqrt n$）は $n$ が増えるほど狭まり、$n=400$ では $\\pm0.049$、$n=1000$ では $\\pm0.031$ 程度。<strong>$n$ を25倍にすると帯は $1/\\sqrt{25}=1/5$</strong> になります。</p><p>ここで読み取ってほしいのは<strong>収束の遅さ</strong>です。桁を1つ稼ぐ（誤差を1/10にする）には $n$ を<strong>100倍</strong>にしなければならない。「たくさん測れば安定する」は正しいのですが、その「たくさん」の代償が2乗で効いてきます。</p><p>もう1つ、線が0.5に近づいていく途中で<strong>行ったり来たり</strong>することにも注目してください。大数の法則は「最終的に近づく」ことしか言わず、「単調に近づく」とは言っていません。途中で離れる区間があるのは異常ではなく正常です。',
      },
      note: '各色の線は1回の「実験の履歴」。試行回数を増やすと、どのパスも母平均μ（点線）に吸い寄せられて収束します。再サンプルで別の運命を引き直せます。',
      controls: [
        { type: 'range', id: 'nmax', label: '試行回数の上限', min: 20, max: 1000, step: 20, value: 400 },
        { type: 'select', id: 'src', label: '母集団', value: 'coin', options: [
          { value: 'coin', label: 'コイン（母平均0.5）' },
          { value: 'die', label: 'サイコロ（母平均3.5）' },
        ]},
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const mu = p.src === 'coin' ? 0.5 : 3.5;
        const nmax = Math.round(p.nmax);
        const paths = 5;
        const series = [];
        for (let s = 0; s < paths; s++) {
          const rand = st.rng(100 + s * 999 + (p.reseed | 0) * 17);
          const pts = []; let sum = 0;
          for (let n = 1; n <= nmax; n++) {
            const x = p.src === 'coin' ? (rand() < 0.5 ? 0 : 1) : (1 + Math.floor(rand() * 6));
            sum += x;
            pts.push([n, sum / n]);
          }
          series.push(pts);
        }
        const ymin = mu - (p.src === 'coin' ? 0.5 : 2.2), ymax = mu + (p.src === 'coin' ? 0.5 : 2.2);
        const pl = Pl.make(canvas, { xmin: 1, xmax: nmax, ymin, ymax });
        pl.clear(); pl.axes({ xLabel: '試行回数 n', yLabel: '標本平均 x̄ₙ' });
        pl.hline(mu, { color: Pl.ink, label: '母平均 μ=' + mu, dash: [6, 3] });
        series.forEach((pts, i) => pl.line(pts, { color: Pl.colors[i % Pl.colors.length], width: 1.4, alpha: 0.85 }));
      },
    },
  });

  /* --- 二項・ポアソンの正規近似と連続修正 --- */
  T.push({
    section: 'prep1', group: '確率と確率変数', id: 'normal-approx', title: '二項・ポアソンの正規近似と連続修正',
    summary: '離散分布を正規分布で近似するときの一致度と、$\\pm 0.5$ の「連続修正」がなぜ効くかを重ねて確かめます。',
    body: `
<p>$n$ が大きいと二項分布は正規分布で近似できます（ド・モアブル–ラプラスの定理）。</p>
<p>$$ \\mathrm{Bin}(n,p)\\approx \\mathcal N\\big(np,\\ np(1-p)\\big) $$</p>
<p>ポアソン分布も $\\lambda$ が大きいと $\\mathcal N(\\lambda,\\lambda)$ に近づきます。目安は二項で $np\\ge5$ かつ $n(1-p)\\ge5$。</p>
<h3>連続修正</h3>
<p>離散（棒）を連続（曲線）で近似するとき、$P(X\\le k)$ は $k$ の棒の「右端」まで含めたいので $k+0.5$ まで積分します。</p>
<p>$$ P(X\\le k)\\approx \\Phi\\!\\left(\\frac{k+0.5-np}{\\sqrt{np(1-p)}}\\right) $$</p>
<p>この $\\pm0.5$ が<strong>連続修正</strong>。棒の幅の半分を足し引きすることで、近似がぐっと良くなります。数値例（$n{=}20,p{=}0.5$ で $P(X\\le8)$）では、厳密値 0.2517 に対し修正なし 0.1855・修正あり 0.2512——半整数の補正だけで精度が桁違いに上がります。</p>
<h3>なぜ近似できるのか、いつ崩れるか</h3>
<p>二項変数は独立なベルヌーイ試行の和 $X=\\sum_{i=1}^n B_i$ なので、<a href="#/prep1/clt">中心極限定理</a>そのものが働いて正規に近づきます（ポアソンも独立事象の重ね合わせとして同様）。だから近似の良し悪しは<strong>「和の形が正規に化けるほど対称か」</strong>で決まります。鍵は二項分布の<strong>歪度 $=(1-2p)/\\sqrt{np(1-p)}$</strong>——$p=0.5$ なら歪度0で最初から左右対称、$p$ が0や1に寄るほど歪度が大きく非対称になり近似が悪化します（$n{=}20$ で $p{=}0.5$ は歪度0、$p{=}0.1$ は0.60）。目安 $np\\ge5$ かつ $n(1-p)\\ge5$ は「歪度を十分小さく抑えられる $n$」の実用ルールで、$p$ が極端なら $n$ をもっと大きくする必要があります。<strong>崩れる典型は「まれな事象」（$p$ 極小）</strong>で、このときは正規近似ではなく別の近似に切り替えます。使い分けは次のとおりです。</p>
<table class="simple">
<tr><th>状況</th><th>使うもの</th><th>理由</th></tr>
<tr><td>$n$ 大・$p$ が極端でない（$np\\ge5$ かつ $n(1-p)\\ge5$）</td><td>正規近似＋連続修正</td><td>歪度 $(1-2p)/\\sqrt{np(1-p)}$ が十分小さい</td></tr>
<tr><td>$n$ 大・$p$ 極小（$np<5$ 程度）</td><td>ポアソン近似 $\\lambda=np$</td><td>$n\\to\\infty,\\,p\\to0,\\,np=\\lambda$ 一定の極限がポアソン</td></tr>
<tr><td>$n$ 自体が小さい</td><td>二項分布の厳密計算</td><td>どちらの近似も根拠がない</td></tr>
</table>
<p>ポアソン近似が効くのは「$n$ が<strong>大きく</strong>、$p$ が小さく、積 $np$ が中くらいに留まる」ときである点に注意してください（$n$ が小さいときの逃げ道ではありません）。例：$n=100,\\ p=0.02$ での $P(X\\le1)$ は、厳密 0.4033 に対しポアソン（$\\lambda=2$）が 0.4060 と近く、正規近似は（連続修正しても）0.3605 と外れます。連続修正はどの場合も精度を底上げしますが、非対称性そのものは直せない点に注意します。</p>
<div class="note">下で $n,p$ を変えると二項の棒に正規曲線が重なります。$p$ が0.5から離れる（歪む）ほど、また $n$ が小さいほど近似はずれ、連続修正の効き目が大きくなります。$p=0.1$ で $n$ を小さくすると曲線が左に裾を引けず棒とずれる——歪度が近似を壊す様子です。</div>`,
    demo: {
      task: {
        q: '$n=20$ のまま $p$ を 0.5 → 0.1 → 0.9 と動かすと、正規近似の当てはまりはどう変わりますか。$p=0.1$ と $p=0.9$ で「崩れ方」は同じですか。',
        a: '<p>$p=0.5$ では二項の棒と正規曲線がほぼ重なります（歪度がちょうど0で左右対称）。$p$ を0.1や0.9に振ると<strong>棒が片側に寄って非対称になり、近似がずれます</strong>。歪度 $(1-2p)/\\sqrt{np(1-p)}$ は $p=0.1$ で $+0.60$、$p=0.9$ で $-0.60$。</p><p><strong>崩れ方は左右対称です</strong>——$p=0.1$ は右に裾を引き、$p=0.9$ は左に裾を引く。大きさは同じで向きだけが逆。$X\\sim\\mathrm{Bin}(n,p)$ と $n-X\\sim\\mathrm{Bin}(n,1-p)$ が同じ分布の鏡像だからです。</p><p>目安 $np\\ge5$ かつ $n(1-p)\\ge5$ は $n=20$ なら $p\\in[0.25,0.75]$ に相当します。$p=0.1$（$np=2$）はこの外——ここでは正規近似でなく<strong>ポアソン近似</strong>に切り替えるのが正解です。',
      },
      note: 'n を大きくすると棒と曲線がぴったり重なる。p=0.1のように偏っていると小さな n では曲線が左にはみ出す（近似が悪い）。連続修正は棒の幅を考慮する補正です。',
      controls: [
        { type: 'range', id: 'n', label: '試行回数 n', min: 5, max: 80, step: 1, value: 20 },
        { type: 'range', id: 'p', label: '成功確率 p', min: 0.1, max: 0.9, step: 0.05, value: 0.5 },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const n = Math.round(p.n), prob = p.p;
        const mu = n * prob, sd = Math.sqrt(n * prob * (1 - prob));
        const lo = Math.max(0, Math.floor(mu - 4 * sd)), hi = Math.min(n, Math.ceil(mu + 4 * sd));
        let ymax = 0;
        const items = [];
        for (let k = lo; k <= hi; k++) { const pr = st.binomPmf(k, n, prob); items.push({ x0: k - 0.5, x1: k + 0.5, y: pr }); ymax = Math.max(ymax, pr); }
        ymax *= 1.2;
        const pl = Pl.make(canvas, { xmin: lo - 0.5, xmax: hi + 0.5, ymin: 0, ymax });
        pl.clear(); pl.axes({ xLabel: 'k', yLabel: '確率' });
        pl.bars(items, { color: Pl.colors[0], alpha: 0.55 });
        const xs = st.linspace(lo - 0.5, hi + 0.5, 200);
        pl.line(xs.map(x => [x, st.normalPdf(x, mu, sd)]), { color: Pl.colors[1], width: 2.5 });
        pl.legend([{ label: '二項分布', color: Pl.colors[0] }, { label: 'N(np, np(1−p))', color: Pl.colors[1] }]);
        const ok = (n * prob >= 5 && n * (1 - prob) >= 5);
        pl.text(hi + 0.5, ymax, 'np=' + mu.toFixed(1) + ', n(1−p)=' + (n * (1 - prob)).toFixed(1) + (ok ? ' ✓近似の目安を満たす' : ' ✗ まだ近似が粗い'), { align: 'right', baseline: 'top', dx: -8, dy: 6, color: ok ? '#2a9d8f' : '#e4572e', size: 12.5 });
      },
    },
  });

})();
