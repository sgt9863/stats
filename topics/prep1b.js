'use strict';
/* 準1級 統計理論 — 追加トピック（範囲表の抜け漏れ対応） */
(function () {
  const T = (window.STATS_TOPICS = window.STATS_TOPICS || []);
  const S = () => window.Stats;
  const P = () => window.Plot;
  const TH = () => window.PlotlyTheme;

  /* 最小二乗（切片つき計画行列）で β を解く小道具 */
  function ols(X, y) {
    const st = S();
    const Xt = st.transpose(X);
    const XtX = st.matmul(Xt, X);
    const Xty = st.matvec(Xt, y);
    const beta = st.solve(XtX, Xty);
    return { beta, XtX };
  }

  /* --- 1. 重回帰と計画行列（Plotly 3D） --- */
  T.push({
    section: 'prep1', group: '回帰分析', id: 'multiple-regression', title: '重回帰と計画行列',
    summary: '説明変数を2つ以上に増やした重回帰を、行列 1 本の式 β̂=(XᵀX)⁻¹Xᵀy として理解し、当てはめ平面を3Dで見ます。',
    body: `
<p>2級で学ぶ単回帰は説明変数が1つ。<strong>重回帰</strong>は説明変数を複数にして、目的変数 $y$ を</p>
<p>$$ y = \\beta_0 + \\beta_1 x_1 + \\beta_2 x_2 + \\cdots + \\beta_p x_p + \\varepsilon $$</p>
<p>で予測します。例えば OpenIntro の「マリオカート」の例では、中古ゲームの落札価格を「新品か中古か」「付属コントローラの数」などから予測しました。</p>
<h3>計画行列でまとめて書く</h3>
<p>$n$ 個の観測と切片列（すべて1）を並べた<strong>計画行列</strong> $X$（$n\\times(p{+}1)$）を作ると、最小二乗解は<a href="#/math/matrix-ops">逆行列</a>1本で書けます。</p>
<p>$$ \\hat{\\boldsymbol\\beta}=(X^\\top X)^{-1}X^\\top \\boldsymbol{y} $$</p>
<p>係数の不確かさ（分散共分散）も行列で出ます。ここで $\\sigma^2$ は誤差分散です。</p>
<p>$$ \\mathrm{Var}(\\hat{\\boldsymbol\\beta})=\\sigma^2 (X^\\top X)^{-1} $$</p>
<p><strong>なぜこの式になるか</strong>：残差二乗和 $\\|\\boldsymbol y-X\\boldsymbol\\beta\\|^2$ を $\\boldsymbol\\beta$ で微分して0とおくと<strong>正規方程式</strong> $X^\\top X\\boldsymbol\\beta=X^\\top\\boldsymbol y$。幾何的には、$\\hat{\\boldsymbol y}=X\\hat{\\boldsymbol\\beta}$ が「$X$ の列が張る空間への $\\boldsymbol y$ の<strong>直交射影</strong>」だという意味です（残差が全説明変数と直交：$X^\\top(\\boldsymbol y-X\\hat{\\boldsymbol\\beta})=\\boldsymbol 0$）。単回帰の「回帰直線は重心を通る」の一般化にあたります。</p>
<p>説明変数が2つのとき、当てはめは3次元空間の<strong>平面</strong>になります（単回帰の直線の一段上）。各係数は「他の変数を一定にしたときの、その変数1単位あたりの $y$ の変化」を表します。</p>
<h3>ハット行列と、係数の標準誤差</h3>
<p>この射影を表す行列に名前が付いています。予測値は $\\hat{\\boldsymbol y}=H\\boldsymbol y$ と書け、</p>
<p>$$ H=X(X^\\top X)^{-1}X^\\top\\qquad(\\text{ハット行列：}\\boldsymbol y \\text{に「ハット」を付ける行列}) $$</p>
<p>$H$ は対称で<strong>冪等</strong>（$H^2=H$、2回射影しても同じ）、そして $\\mathrm{tr}\\,H=p+1$ ＝使ったパラメータ数。この対角成分 $h_{ii}$ が<strong>てこ比</strong>で、「その点が自分自身の予測値をどれだけ引っ張るか」を表します（$h_{ii}>2(p+1)/n$ が要注意の目安、<a href="#/prep1/regression-diagnostics">回帰診断</a>へ）。</p>
<p>係数の不確かさは次で評価します。$\\sigma^2$ は未知なので残差から推定します。</p>
<p>$$ \\hat\\sigma^2=\\frac{\\mathrm{RSS}}{n-p-1},\\qquad
\\mathrm{SE}(\\hat\\beta_j)=\\hat\\sigma\\sqrt{\\big[(X^\\top X)^{-1}\\big]_{jj}},\\qquad
t_j=\\frac{\\hat\\beta_j}{\\mathrm{SE}(\\hat\\beta_j)}\\sim t_{\\,n-p-1} $$</p>
<p>$n$ ではなく $n-p-1$ で割るのは、切片を含む $p+1$ 個の係数を推定したぶん残差の自由度が減るからです。デモで「ノイズ $\\sigma$ を上げると推定値がぶれる」のは、この $\\hat\\sigma$ が $\\mathrm{SE}$ を通じて効いている姿です。</p>
<h3>質的変数はダミー変数で入れる</h3>
<p>「新品か中古か」のようなカテゴリは、そのままでは計画行列に入りません。<strong>$k$ 水準のカテゴリは $k-1$ 本のダミー列</strong>（0/1）で表し、残る1水準は<strong>基準カテゴリ</strong>として切片に吸収させます。ダミーの係数は「基準と比べた $y$ の差」と読みます。</p>
<p>$k$ 本すべて入れてはいけません——ダミーの合計が全行で1になり、切片の列（全部1）と一致してしまうので $X$ がフルランクを失い、$(X^\\top X)^{-1}$ が存在しなくなります（<strong>ダミー変数の罠</strong>）。上の表のフルランク要件はこれのことです。なお $x_1x_2$ のような<strong>交互作用項</strong>を入れると、「一方の変数の効き方が、他方の水準によって変わる」ことを表現できます。</p>
<h3>全体の $F$ 検定と部分 $F$ 検定</h3>
<p>個々の係数の $t$ 検定に対し、「回帰全体に意味があるか」は $F$ 検定で見ます。</p>
<p>$$ F=\\frac{(\\mathrm{SST}-\\mathrm{RSS})/p}{\\mathrm{RSS}/(n-p-1)}\\ \\sim\\ F_{p,\\ n-p-1} $$</p>
<p>さらに<strong>複数の変数をまとめて落としてよいか</strong>は、入れ子モデルを比べる<strong>部分 $F$ 検定</strong>で判定します（$q$ 本落とす場合）。</p>
<p>$$ F=\\frac{(\\mathrm{RSS}_{\\text{縮小}}-\\mathrm{RSS}_{\\text{完全}})/q}{\\mathrm{RSS}_{\\text{完全}}/(n-p-1)} $$</p>
<p>これは実務で効きます——<a href="#/prep1/multicollinearity">共線性</a>のある2変数は個別の $t$ ではどちらも非有意になりがちですが、<strong>2本まとめて検定すれば有意になる</strong>ことがあるからです。「個別に非有意だから両方落とす」は危険だと分かります。</p>
<h3>前提条件と、崩れたときの影響</h3>
<p>単回帰の前提（線形性・独立性・等分散性・正規性——<a href="#/prep1/regression">線形回帰</a>の表を参照）に加えて、重回帰固有の前提が加わります。</p>
<table class="simple">
<tr><th>前提</th><th>崩れると起きること</th><th>対処・代替</th></tr>
<tr><td>$X$ がフルランク（完全な共線性がない）</td><td>$X^\\top X$ の逆行列が存在せず、$\\hat{\\boldsymbol\\beta}$ が一意に決まらない</td><td>変数を削る・定義し直す（ダミー変数の入れすぎに注意）</td></tr>
<tr><td>強い多重共線性がない</td><td>$(X^\\top X)^{-1}$ が「爆発」し、係数の標準誤差が激増・符号も不安定</td><td>VIFで診断 → <a href="#/prep1/multicollinearity">多重共線性</a>・<a href="#/prep1/regularization">正則化</a>・<a href="#/chemo/pls">PLS回帰</a></td></tr>
<tr><td>$n$ が変数の数 $p$ に対して十分</td><td>過学習して見かけの $R^2$ だけ上がる（$p{+}1=n$ なら完全適合してしまう）</td><td>自由度調整済み $R^2$・<a href="#/prep1/model-selection">モデル選択</a>・<a href="#/prep1/crossval">交差検証</a></td></tr>
<tr><td>効いている変数が入っている</td><td>抜けた変数と相関する係数に偏りが乗る（欠落変数バイアス）</td><td>ドメイン知識による変数設計・感度分析</td></tr>
</table>
<h3>有意性と実質的な意味</h3>
<p>重回帰では「モデル全体」と「個々の係数」を分けて読みます。全体の $F$ 検定は「どれかの係数が0でない」ことしか言いません。個々の $t$ 検定の帰無仮説は「<strong>他の変数をモデルに入れたうえで</strong>、その変数を足す価値があるか」であり、単回帰の有意性とは意味が違います——相関した変数を両方入れると、互いに「余分」に見えて<strong>両方とも非有意</strong>になることがあります（多重共線性の典型症状）。効果の大きさを変数間で比べるには単位に依存しない標準化偏回帰係数を使い、あてはまりの比較には（変数を足すだけで必ず増える $R^2$ でなく）自由度調整済み $R^2$ や AIC を使うのが実務的です（<a href="#/prep1/model-selection">モデル選択</a>）。</p>
<div class="note">下は $y \\sim x_1, x_2$ の重回帰。点が観測、面が最小二乗で当てた平面です。ドラッグで回せます。真の係数を動かすと平面の傾きが変わり、推定された $\\hat\\beta$ が真の値に近いことを確認できます。ノイズ $\\sigma$ を上げると $\\mathrm{Var}(\\hat{\\boldsymbol\\beta})=\\sigma^2(X^\\top X)^{-1}$ のとおり推定値が真値からぶれることも確認を。次の<a href="#/prep1/multicollinearity">多重共線性</a>では、$x_1,x_2$ が似ていると係数が不安定になる様子を見ます。</div>`,
    demo: {
      task: {
        q: '$\\beta_1=1.2$、$\\beta_2=-0.8$ に固定してノイズを0→3に上げ、次に $n$ を50→120にしてください。2つの係数の推定はどう振る舞いますか。「$\\beta_2$ が負」という結論はいつ崩れますか。',
        a: '<p>ノイズ0では推定値が真値 $(1.2,\\ -0.8)$ にぴったり乗ります。ノイズを3まで上げると両方が大きくぶれ、<strong>$\\hat\\beta_2$ の符号が正に反転することさえあります</strong>（再サンプルを何度か押して確かめてください）。$n$ を120にすると、同じノイズでもぶれが $\\sqrt{50/120}=0.65$ 倍に縮み、符号の反転が起きにくくなります。</p><p>読み取ってほしいのは<strong>「係数の符号は、標準誤差より効果が大きいときだけ信用できる」</strong>ということ。$|\\hat\\beta_2|$ が $\\mathrm{SE}$ と同程度なら、符号は偶然で決まっているのと変わりません。</p><p>実務では、係数の値だけでなく<strong>必ず標準誤差か信頼区間とセットで</strong>報告する——「$\\hat\\beta_2=-0.8$」ではなく「$-0.8\\pm0.9$」と書けば、符号を論じてはいけないことが一目で伝わります。',
      },
      heading: '🌐 3Dで確かめる（ドラッグで回転）',
      note: '面が最小二乗回帰平面。ノイズを増やすと点が面から離れ、推定係数のばらつき（標準誤差）が大きくなります。β̂=(XᵀX)⁻¹Xᵀy で計算しています。',
      controls: [
        { type: 'range', id: 'b1', label: '真の係数 β₁（x₁の効き）', min: -2, max: 2, step: 0.2, value: 1.2 },
        { type: 'range', id: 'b2', label: '真の係数 β₂（x₂の効き）', min: -2, max: 2, step: 0.2, value: -0.8 },
        { type: 'range', id: 'noise', label: 'ノイズ σ', min: 0, max: 3, step: 0.2, value: 1 },
        { type: 'range', id: 'n', label: 'データ数', min: 15, max: 120, step: 5, value: 50 },
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      plot(div, p, Plotly) {
        const st = S();
        const rand = st.rng(400 + (p.reseed | 0) * 31);
        const n = Math.round(p.n);
        const b0 = 3;
        const X = [], y = [], x1s = [], x2s = [];
        for (let i = 0; i < n; i++) {
          const x1 = -3 + 6 * rand(), x2 = -3 + 6 * rand();
          x1s.push(x1); x2s.push(x2);
          X.push([1, x1, x2]);
          y.push(b0 + p.b1 * x1 + p.b2 * x2 + p.noise * st.randn(rand));
        }
        const { beta } = ols(X, y);
        // 当てはめ平面
        const gx = st.linspace(-3, 3, 12), gy = st.linspace(-3, 3, 12);
        const z = gy.map(yy => gx.map(xx => beta[0] + beta[1] * xx + beta[2] * yy));
        const data = [
          { type: 'scatter3d', mode: 'markers', x: x1s, y: x2s, z: y, marker: { size: 3.5, color: '#4f6df5', opacity: 0.85 }, name: '観測' },
          { type: 'surface', x: gx, y: gy, z, colorscale: [[0, '#f4a261'], [1, '#e4572e']], opacity: 0.6, showscale: false, name: '回帰平面' },
        ];
        const layout = TH().layout({
          scene: TH().scene({ xaxis: { title: 'x₁' }, yaxis: { title: 'x₂' }, zaxis: { title: 'y' } }),
          margin: { l: 0, r: 0, t: 24, b: 0 },
          title: { text: 'β̂₀=' + beta[0].toFixed(2) + ', β̂₁=' + beta[1].toFixed(2) + ' (真' + p.b1 + '), β̂₂=' + beta[2].toFixed(2) + ' (真' + p.b2 + ')', font: { size: 12.5 }, x: 0.5, y: 0.98 },
        });
        Plotly.react(div, data, layout, TH().config);
      },
    },
  });

  /* --- 2. 多重共線性 --- */
  T.push({
    section: 'prep1', group: '回帰分析', id: 'multicollinearity', title: '多重共線性',
    summary: '説明変数どうしが似すぎると、個々の係数が不安定に暴れる。VIF という指標と、係数推定のばらつきで体感します。',
    body: `
<p><strong>多重共線性</strong>は、重回帰で説明変数どうしが強く相関している状態です。このとき<a href="#/math/matrix-ops">$X^\\top X$ の行列式が0に近づき</a>、逆行列が「爆発」して<strong>係数の分散が非常に大きく</strong>なります。</p>
<p>相関した2変数を分離できないので、「$x_1$ が効いているのか $x_2$ が効いているのか」を推定が決めきれず、少しデータが変わるだけで係数が大きく揺れます。予測はできても、個々の係数の解釈は危険になります。</p>
<h3>VIF（分散拡大係数）</h3>
<p>変数 $x_j$ を他の説明変数で回帰したときの決定係数を $R_j^2$ とすると、</p>
<p>$$ \\mathrm{VIF}_j = \\frac{1}{1-R_j^2} $$</p>
<p>目安として VIF が 10 を超えると多重共線性が強いとされます（2変数なら相関 $r$ に対して $\\mathrm{VIF}=1/(1-r^2)$）。</p>
<h3>なぜ VIF が分散を膨らませるか</h3>
<p>係数 $\\hat\\beta_j$ の分散は $\\mathrm{Var}(\\hat\\beta_j)=\\dfrac{\\sigma^2}{(1-R_j^2)\\sum(x_{ij}-\\bar x_j)^2}$ と書け、共線性のない場合（$R_j^2=0$）に比べて<strong>ちょうど $\\mathrm{VIF}_j=1/(1-R_j^2)$ 倍に膨らみます</strong>。$x_j$ が他の変数でよく説明できる（$R_j^2\\to1$）と分母が0に近づき分散が爆発——「その変数が持つ<em>独自の</em>情報が少ないほど、係数が定まらない」という直感どおりです（$r{=}0.9$ で VIF$\\approx5.3$）。行列で見れば $\\mathrm{Var}(\\hat{\\boldsymbol\\beta})=\\sigma^2(X^\\top X)^{-1}$ で、共線性は $X^\\top X$ の<a href="#/math/matrix-ops">条件数</a>を悪化させ逆行列を不安定にする、と<a href="#/math/covariance-matrix">同じ話</a>です。</p>
<h3>有意性と実質的な意味</h3>
<p>多重共線性の実害は<strong>「予測」でなく「解釈」に出ます</strong>。共線でも予測 $\\hat y$ は安定して当たります（<a href="#/chemo/pls">PLS</a>が予測に使えるのはこのため）が、個々の係数は標準誤差が膨れて<strong>符号が反転したり、両方とも非有意になったり</strong>します。だから「係数が非有意だから効いていない」と結論するのは危険——共線な相棒と情報を奪い合っているだけかもしれません。診断はVIF、対処は「変数を1つに絞る／主成分・PLSで合成する／<a href="#/prep1/regularization">正則化（リッジ）</a>で縮める」。目的が予測なら共線性は放置してよく、<strong>「個々の係数を解釈したいときだけ問題になる」</strong>と割り切るのが実務的です。</p>
<div class="note">下は、相関のある2つの説明変数で同じ真のモデルを何度も推定し、係数 $\\hat\\beta_1$ の推定値を並べたもの。変数間の相関を上げると、点群が横に大きく広がる＝推定が不安定になります。VIF も一緒に跳ね上がります。予測はできても係数の値は深読みしてはいけない、が結論。対策が<a href="#/chemo/pls">PLS回帰</a>や正則化です。</div>`,
    demo: {
      task: {
        q: '説明変数どうしの相関を 0 → 0.6 → 0.9 → 0.98 と上げてください。係数推定のばらつきは何倍になりますか。予測の精度も同じように悪化しますか。',
        a: '<p>係数のばらつきは VIF$=1/(1-r^2)$ の平方根倍になり、<strong>1.00倍 → 1.25倍 → 2.29倍 → 5.03倍</strong>。$r=0.98$ では係数のばらつきが5倍に膨らみ、符号すら安定しなくなります。</p><p>ところが<strong>予測はそれほど悪化しません</strong>。$x_1$ と $x_2$ がほぼ同じ動きをするなら、「$x_1$ に $+2$、$x_2$ に $-1$」でも「$x_1$ に $-1$、$x_2$ に $+2$」でも、合計としての予測値はほぼ同じになるからです。個々の係数は決まらないのに、その組み合わせは決まる。</p><p>だから実務の結論は<strong>「予測には使ってよいが、個々の係数を深読みするな」</strong>。「$x_1$ を1増やすと $y$ が…」という<em>他を一定にした</em>解釈が、そもそもデータの中に存在しない状況だからです。対処は変数を絞る・<a href="#/prep1/regularization">正則化</a>・<a href="#/chemo/pls">PLS</a>。',
      },
      note: '相関を上げると β̂₁ の推定値（点）が大きく散らばり、VIF が急増します。予測はできても係数の値を深読みしてはいけない、が結論です。',
      controls: [
        { type: 'range', id: 'corr', label: '説明変数どうしの相関', min: 0, max: 0.98, step: 0.02, value: 0.6 },
        { type: 'range', id: 'n', label: '各データセットの標本数', min: 20, max: 150, step: 10, value: 40 },
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const rand = st.rng(88 + (p.reseed | 0) * 53);
        const r = p.corr, n = Math.round(p.n);
        const trueB1 = 1.5, trueB2 = 1.0, b0 = 2;
        const est = [];
        for (let rep = 0; rep < 200; rep++) {
          const X = [], y = [];
          for (let i = 0; i < n; i++) {
            const z1 = st.randn(rand), z2 = st.randn(rand);
            const x1 = z1;
            const x2 = r * z1 + Math.sqrt(1 - r * r) * z2;
            X.push([1, x1, x2]);
            y.push(b0 + trueB1 * x1 + trueB2 * x2 + 1.0 * st.randn(rand));
          }
          try { est.push(ols(X, y).beta[1]); } catch (e) { /* skip singular */ }
        }
        const vif = 1 / (1 - r * r);
        const lo = -2, hi = 5;
        const bins = st.histogram(est, 40, lo, hi);
        const ymax = Math.max.apply(null, bins.map(b => b.count)) * 1.15 || 1;
        const pl = Pl.make(canvas, { xmin: lo, xmax: hi, ymin: 0, ymax });
        pl.clear(); pl.axes({ xLabel: '推定された β̂₁（真の値=1.5）', yLabel: '回数' });
        pl.bars(bins.map(b => ({ x0: b.x0, x1: b.x1, y: b.count })), { color: Pl.colors[0], alpha: 0.6 });
        pl.vline(trueB1, { color: Pl.colors[1], label: '真 β₁=1.5' });
        const sd = st.sd(est);
        pl.text(hi, ymax, 'VIF = ' + vif.toFixed(1) + (vif > 10 ? ' ⚠強い共線性' : ''), { align: 'right', baseline: 'top', dx: -8, dy: 6, color: vif > 10 ? Pl.colors[1] : '#475467', size: 13 });
        pl.text(hi, ymax, 'β̂₁ の標準偏差 = ' + sd.toFixed(2), { align: 'right', baseline: 'top', dx: -8, dy: 26, color: '#475467', size: 12.5 });
      },
    },
  });

  /* --- 3. モデル選択（AIC・調整済みR²） --- */
  T.push({
    section: 'prep1', group: '回帰分析', id: 'model-selection', title: 'モデル選択（AIC・調整済み R²）',
    summary: '「変数を増やすほど当てはまりは良くなる」罠を、複雑さに罰を科す情報量規準（AIC）と調整済み R² で乗り越えます。',
    body: `
<p>説明変数を増やすと、訓練データへの当てはまり（$R^2$）は<strong>必ず</strong>良くなります。でも無関係な変数を足しても“見かけ”が良くなるだけで、予測は改善しません。そこで<strong>複雑さに罰</strong>を科した指標を使います。</p>
<h3>調整済み決定係数</h3>
<p>変数の数 $k$ でペナルティをかけた $R^2$ です。</p>
<p>$$ \\bar{R}^2 = 1-(1-R^2)\\frac{n-1}{n-k-1} $$</p>
<p><strong>なぜこの係数なのか</strong>——同じ式を次のように書き直すと正体が見えます。</p>
<p>$$ \\bar R^2=1-\\frac{\\mathrm{RSS}/(n-k-1)}{\\mathrm{SST}/(n-1)} $$</p>
<p>分子・分母とも<strong>自由度で割った不偏分散</strong>です。つまり $\\bar R^2$ は「残差の<em>不偏分散</em>が減ったときだけ改善する指標」。変数を足せば $\\mathrm{RSS}$ は必ず減りますが、同時に自由度 $n-k-1$ も減るので、寄与の小さい変数を入れると分子がかえって大きくなり <strong>$\\bar R^2$ は下がります</strong>。$R^2$ が単調増加なのに $\\bar R^2$ が山を持つのはこのためです。</p>
<h3>赤池情報量規準（AIC）</h3>
<p>「当てはまりの良さ」と「パラメータ数」を天秤にかけ、<strong>小さいほど良い</strong>とする規準です（正規線形モデルでの近似形）。</p>
<p>$$ \\mathrm{AIC}=n\\ln\\!\\left(\\frac{\\mathrm{RSS}}{n}\\right)+2k $$</p>
<p>一般形の $\\mathrm{AIC}=-2\\ln\\hat L+2k$ とこの式はつながっています。正規線形モデルでは最大対数尤度が $\\ln\\hat L=-\\frac n2\\ln(\\mathrm{RSS}/n)+\\text{定数}$ になるので、代入すると第1項がそのまま出てきます（定数はモデル間で共通なので落とせます）。</p>
<p>ここで<strong>$k$ の数え方には注意</strong>が要ります。厳密には切片と $\\sigma^2$ も推定したパラメータなので、説明変数 $p$ 個のモデルでは $k=p+2$。ただしモデル間で共通に足し引きされるだけなので<strong>順位は変わりません</strong>——ソフトによって AIC の絶対値が違うのに選ばれるモデルは同じ、という現象はこれが理由です。</p>
<p>比べ方の目安もあります。AIC の差 $\\Delta$ が<strong>2以内なら実質同等</strong>、4〜7でやや劣る、10を超えれば明確に劣る、と読むのが慣用です。また $n/k$ が小さい（おおむね40未満）ときは AIC が罰を過小に見積もって変数を入れすぎるので、小標本補正</p>
<p>$$ \\mathrm{AICc}=\\mathrm{AIC}+\\frac{2k(k+1)}{n-k-1} $$</p>
<p>を使います。下のデモは $n=30$ と小さいので、まさにこの補正が効く領域です。</p>
<p>OpenIntro の重回帰でも、後退（変数減少）法で AIC が最小になるモデルを探しました。<a href="#/prep1/crossval">交差検証</a>が「実際に予測を試す」方法なのに対し、AIC や調整済み $R^2$ は「式で罰を科す」手軽な方法です。</p>
<h3>AICの意味とBICとの違い</h3>
<p>AICの一般形は $\\mathrm{AIC}=-2\\ln\\hat L+2k$（$\\hat L$ は最大尤度）。第1項は当てはまりの悪さ、第2項がパラメータ数への罰です。$2k$ という罰は「モデルが予測する未来のデータからの<strong>期待予測誤差（カルバック・ライブラー情報量）を最小化する</strong>」という目標から導かれ、飾りの数字ではありません。よく比較される<strong>BIC</strong>は罰が $k\\ln n$ で、目標が違います——<strong>AICは「予測が当たるモデル」、BICは「真のモデルを選ぶ（一致性）」</strong>を狙います。罰の大きさは $n{=}20$ で $\\ln n=3.0$、$n{=}200$ で $5.3$ とデータが増えるほどBICが厳しく、<strong>BICはAICより小さい（倹しい）モデルを選ぶ傾向</strong>。予測重視ならAIC・交差検証、説明変数を絞って解釈したいならBIC、が目安です。</p>
<h3>前提と、落とし穴（選択後の推論）</h3>
<p>注意点を3つ。<strong>(1) AICの絶対値に意味はなく差だけを見ます</strong>（同じデータ・同じ応答変数で比較。応答を変換したら比較不可）。<strong>(2) 変数選択したあと、その同じデータで係数のp値や信頼区間をそのまま報告するのは誤り</strong>——「選ばれやすい＝偶然大きく見えた変数」なので、選択後の推論はp値を楽観的にします（選択後推論・データ分割が必要）。<strong>(3) ステップワイズ選択は不安定</strong>で、データを少し変えると選ばれる変数が変わります。予測が目的なら変数を1つ選ぶより<a href="#/prep1/regularization">正則化（Lasso）</a>で連続的に縮める方が安定します。「AIC最小のモデル」を唯一の正解と思わず、近いAICの候補が複数あるのが普通、と捉えるのが実務的です。戦略（総当り・前進・後退・ステップワイズ）と規準の全体像は<a href="#/prep1/variable-selection">説明変数の選択</a>にまとめています。</p>
<div class="note">下で真の重要変数の数を決め、モデルに入れる変数を1個ずつ増やします。訓練 $R^2$（青）は増え続けますが、調整済み $R^2$（緑）と AIC（オレンジ, 右軸的に反転表示）は「真の変数の数」あたりで頭打ち・最小になります。ここが選ぶべき複雑さです。無駄な変数を足すと訓練 $R^2$ だけが上がり続ける＝当てはまりは選択に使えない、を確かめてください。</div>`,
    demo: {
      task: {
        q: '本当に効く変数を3に固定して、$R^2$・調整済み $R^2$・AIC がそれぞれどの変数数で最良になるか確かめてください。ノイズを3に上げると、3つの挙動はどう変わりますか。',
        a: '<p><strong>$R^2$</strong> は変数を足すほど<strong>単調に上がり続け</strong>、必ず最大モデルを選びます——選択基準として使えません。<strong>調整済み $R^2$ と AIC</strong> は真の変数数3付近で最良になり、それ以降は悪化します。</p><p>2つの違いも見えます。<strong>調整済み $R^2$ のほうが罰が軽く、AIC より多めの変数を選びがち</strong>です（$\\bar R^2$ は「$F$ 値が1を超えれば変数を足す」に相当し、かなり緩い基準）。</p><p><strong>ノイズを3に上げると</strong>、どの基準でも谷が浅くなり、<strong>選ばれる変数数が真値より少なくなりがち</strong>です。ノイズが大きいと弱い効果が検出できないため——これは失敗ではなく、「その $n$ とノイズでは検出できない効果は入れない」という<strong>正しい保守性</strong>です。</p><p>データ数を30と200で比べると、$n$ が小さいほど選択が不安定になることも確かめてください。$n/k$ が小さい領域では <strong>AICc（小標本補正）</strong>を使うべきで、素の AIC は罰が軽すぎて変数を入れすぎます。',
      },
      note: '青（訓練R²）は単調増加なので選択に使えません。緑（調整済みR²）の頂点、オレンジ（AIC）の谷が最適な変数の数を教えます。無駄な変数はむしろ悪化させます。',
      controls: [
        { type: 'range', id: 'trueK', label: '本当に効く変数の数', min: 1, max: 8, step: 1, value: 3 },
        { type: 'range', id: 'noise', label: 'ノイズ', min: 0.2, max: 3, step: 0.2, value: 1 },
        { type: 'range', id: 'n', label: 'データ数', min: 30, max: 200, step: 10, value: 60 },
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const rand = st.rng(300 + (p.reseed | 0) * 17);
        const n = Math.round(p.n), trueK = Math.round(p.trueK), maxK = 10;
        // 変数を maxK 個生成。最初の trueK 個だけ真の係数を持つ
        const cols = [];
        for (let j = 0; j < maxK; j++) { const c = []; for (let i = 0; i < n; i++) c.push(st.randn(rand)); cols.push(c); }
        const y = [];
        for (let i = 0; i < n; i++) {
          let v = 1;
          for (let j = 0; j < trueK; j++) v += 1.2 * cols[j][i];
          y.push(v + p.noise * st.randn(rand));
        }
        const ybar = st.mean(y);
        const sst = y.reduce((s, v) => s + (v - ybar) ** 2, 0);
        const r2s = [], adj = [], aics = [];
        for (let k = 1; k <= maxK; k++) {
          const X = [];
          for (let i = 0; i < n; i++) { const row = [1]; for (let j = 0; j < k; j++) row.push(cols[j][i]); X.push(row); }
          const beta = ols(X, y).beta;
          let rss = 0;
          for (let i = 0; i < n; i++) { const pred = st.dot(X[i], beta); rss += (y[i] - pred) ** 2; }
          const R2 = 1 - rss / sst;
          r2s.push(R2);
          adj.push(1 - (1 - R2) * (n - 1) / (n - k - 1));
          aics.push(n * Math.log(rss / n) + 2 * (k + 1));
        }
        // AIC を [0,1] に正規化して同じ軸に重ねる（谷が見えるように反転）
        const amin = Math.min.apply(null, aics), amax = Math.max.apply(null, aics);
        const aicN = aics.map(a => 1 - (a - amin) / (amax - amin || 1));
        const pl = Pl.make(canvas, { xmin: 0.5, xmax: maxK + 0.5, ymin: -0.05, ymax: 1.05 });
        pl.clear(); pl.axes({ xLabel: 'モデルに入れた変数の数', yLabel: '指標（正規化）', xTicks: [1, 2, 3, 4, 5, 6, 7, 8, 9, 10] });
        pl.line(r2s.map((v, i) => [i + 1, v]), { color: Pl.colors[0], width: 2.5 });
        pl.scatter(r2s.map((v, i) => [i + 1, v]), { color: Pl.colors[0], r: 3 });
        pl.line(adj.map((v, i) => [i + 1, v]), { color: Pl.colors[2], width: 2.5 });
        pl.scatter(adj.map((v, i) => [i + 1, v]), { color: Pl.colors[2], r: 3 });
        pl.line(aicN.map((v, i) => [i + 1, v]), { color: Pl.colors[1], width: 2, dash: [5, 4] });
        pl.vline(trueK, { color: Pl.ink, label: '真の変数数=' + trueK });
        pl.legend([
          { label: '訓練 R²', color: Pl.colors[0] },
          { label: '調整済み R²', color: Pl.colors[2] },
          { label: 'AIC（谷が最良）', color: Pl.colors[1] },
        ]);
      },
    },
  });

  /* --- 4. デルタ法と誤差の伝搬 --- */
  T.push({
    section: 'prep1', group: '推定', id: 'delta-method', title: 'デルタ法と誤差の伝搬',
    summary: '推定値 θ̂ を関数 g に通したとき、その不確かさ（分散）がどう変わるか。接線で近似する「デルタ法」を図で理解します。',
    body: `
<p>推定量 $\\hat\\theta$ に不確かさ（分散 $\\mathrm{Var}(\\hat\\theta)$）があるとき、それを非線形な関数 $g$ に通した $g(\\hat\\theta)$ の不確かさはどうなるでしょう。<strong>デルタ法</strong>は、$g$ を推定値のまわりで<strong>接線（1次）で近似</strong>して分散を伝えます。</p>
<p>$$ \\mathrm{Var}\\big(g(\\hat\\theta)\\big)\\;\\approx\\;\\big[g'(\\theta)\\big]^2\\,\\mathrm{Var}(\\hat\\theta) $$</p>
<p>直感は単純です。$g$ の傾き $g'$ が急な場所では、入力の小さなブレが出力で大きく拡大されます。傾きがゆるい場所では逆に縮みます。これは分析化学での<strong>誤差の伝搬</strong>（検量線から濃度を逆算するときの不確かさなど）と同じ考え方です。</p>
<h3>なぜ $[g'(\\theta)]^2$ 倍になるか</h3>
<p>$g$ を真値 $\\theta$ のまわりで1次のテイラー展開すると $g(\\hat\\theta)\\approx g(\\theta)+g'(\\theta)(\\hat\\theta-\\theta)$。定数 $a=g(\\theta)$、係数 $b=g'(\\theta)$ の<a href="#/prep1/transformations">線形変換</a>とみなせば、分散の公式 $\\mathrm{Var}(a+b\\hat\\theta)=b^2\\mathrm{Var}(\\hat\\theta)$ からそのまま $\\mathrm{Var}(g(\\hat\\theta))\\approx[g'(\\theta)]^2\\mathrm{Var}(\\hat\\theta)$ が出ます。標準誤差なら $|g'|$ 倍。多変数版は勾配を使って $\\nabla g^\\top\\Sigma\\,\\nabla g$ で、共分散も取り込んだ誤差伝搬になります。数値でも $g=\\theta^2,\\theta{=}1.2,\\sigma{=}0.25$ で $\\mathrm{Var}$ 実測0.369 ≒ 近似 $(2\\theta)^2\\sigma^2=0.360$ と一致します。</p>
<h3>逆に使う：分散安定化変換</h3>
<p>デルタ法は「$g$ が決まっているとき分散を求める」道具ですが、<strong>逆向きにも使えます</strong>——「分散が $\\theta$ に依存しなくなるような $g$ を設計する」。$\\mathrm{Var}(\\hat\\theta)\\propto h(\\theta)$ のとき $\\mathrm{Var}(g(\\hat\\theta))\\approx g'(\\theta)^2h(\\theta)$ なので、これを定数にするには $g'\\propto 1/\\sqrt{h(\\theta)}$ を解けばよい。これが<strong>分散安定化変換</strong>です。</p>
<table class="simple">
<tr><th>分布</th><th>分散 $h(\\theta)$</th><th>変換 $g$</th><th>変換後の分散</th></tr>
<tr><td>ポアソン</td><td>$\\lambda$</td><td>$\\sqrt{\\hat\\lambda}$</td><td>$\\approx 1/4$（$\\lambda$ に依存しない）</td></tr>
<tr><td>二項（比率）</td><td>$p(1-p)/n$</td><td>$\\arcsin\\sqrt{\\hat p}$</td><td>$\\approx 1/(4n)$</td></tr>
<tr><td>相関係数</td><td>$(1-\\rho^2)^2/n$</td><td>$z=\\tfrac12\\ln\\dfrac{1+r}{1-r}$</td><td>$\\approx 1/(n-3)$</td></tr>
</table>
<p>3行目が<strong>フィッシャーの $z$ 変換</strong>です。$r$ の分散が $\\rho$ に強く依存する（$\\rho$ が $\\pm1$ に近いほど小さくなる）ため生の $r$ では区間が作れませんが、$z$ に移せば分散が $n$ だけで決まる定数になり、区間推定ができるようになります（<a href="#/prep1/normal-tests">母相関の区間</a>はこれで作ります）。「変換は見た目を整えるためでなく、<strong>推論を可能にするため</strong>にある」という良い例です。</p>
<h3>前提と、崩れたときの注意</h3>
<p>デルタ法は<strong>1次近似</strong>なので、次の条件で悪化します。<strong>(1) $g$ の曲率が強い or ばらつきが大きい</strong>：接線が実際の曲線から離れ、近似がずれます（$g=e^\\theta$ を $\\sigma{=}0.5$ で通すと $\\mathrm{Var}$ 実測2.69 vs 近似1.85 と大きく乖離）。<strong>(2) $g'(\\theta)\\approx0$（極値の近く）</strong>：1次項が消えて「分散ゼロ」と誤るので、2次のデルタ法（$g''$ を使う）が必要。<strong>(3) 変換で分布の形が大きく歪む</strong>：$g$ が非線形だと $g(\\hat\\theta)$ は非対称になり、対称な正規近似区間が的外れになることがあります。こういう場合は<a href="#/prep1/bootstrap">ブートストラップ</a>で分布ごと推定する方が安全——デルタ法は「速いが近似」、ブートストラップは「重いが柔軟」という使い分けです。真値 $\\theta$ は未知なので実際は $g'(\\hat\\theta)$ で代用する点も、近似の一部です。</p>
<div class="note">下で関数 $g$ の急峻さと、入力 $\\hat\\theta$ のばらつきを動かすと、出力側の分布の広がりが $[g'(\\theta)]^2$ 倍で変わります。接線がきつい（傾きが大きい）ほど、出力のヒストグラムが横に広がるのを確認してください。入力のばらつきを大きくすると、接線近似が曲線から外れて出力分布が非対称に歪む（デルタ法の限界）ことも見えます。多変数版が<a href="#/doe/rsm-error">応答の信頼区間</a>や共分散を使った誤差伝搬です。</div>`,
    demo: {
      task: {
        q: '関数を $g(\\theta)=\\theta^2$ にして、$\\hat\\theta$ の位置を 0.3 → 1.2 → 2.5 と動かしてください。入力のばらつきを変えていないのに出力のばらつきが変わるのはなぜですか。何倍になりますか。',
        a: '<p>出力のSDは入力SDの <strong>0.6倍 → 2.4倍 → 5.0倍</strong> と変わります。デルタ法の $\\mathrm{SD}(g)\\approx|g\'(\\theta)|\\cdot\\mathrm{SD}(\\hat\\theta)$ で、$g\'=2\\theta$ だからちょうど $2\\theta$ 倍です。</p><p>つまり<strong>同じ不確かさでも、変換する場所によって出力の不確かさが変わる</strong>。$\\theta=0.3$ の平坦な場所では誤差が<em>縮み</em>、$\\theta=2.5$ の急な場所では5倍に<em>拡大</em>されます。</p><p>関数を $\\log$ に切り替えると逆の挙動（$g\'=1/\\theta$ なので $\\theta$ が小さいほど拡大）になることも確かめてください。<strong>「検量線の傾きが寝ている領域で逆算すると誤差が爆発する」</strong>という分析化学の経験則は、この $|g\'|$ が小さい＝逆関数の傾きが大きい、という一行で説明できます。',
      },
      note: '左の入力分布（縦）を接線で写すと右（下）の出力分布になります。傾き g′ が大きいほど出力の広がりが拡大。これが「誤差が伝搬する」仕組みです。',
      controls: [
        { type: 'range', id: 'theta', label: '推定値の位置 θ̂', min: 0.3, max: 2.5, step: 0.1, value: 1.2 },
        { type: 'range', id: 'sd', label: '入力のばらつき SD(θ̂)', min: 0.05, max: 0.5, step: 0.05, value: 0.25 },
        { type: 'select', id: 'g', label: '関数 g', value: 'sq', options: [
          { value: 'sq', label: 'g(θ)=θ²' },
          { value: 'exp', label: 'g(θ)=e^θ' },
          { value: 'log', label: 'g(θ)=ln θ' },
        ]},
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const g = p.g === 'sq' ? (t => t * t) : p.g === 'exp' ? (t => Math.exp(t)) : (t => Math.log(t));
        const gp = p.g === 'sq' ? (t => 2 * t) : p.g === 'exp' ? (t => Math.exp(t)) : (t => 1 / t);
        const th = p.theta, sd = p.sd;
        const gy = g(th), slope = gp(th);
        const outSd = Math.abs(slope) * sd; // デルタ法による出力SD
        const xmin = 0, xmax = 3;
        const ymin = Math.min(0, g(0.3) - 1), ymax = Math.max(g(2.5), gy + 3 * outSd + 0.5);
        const pl = Pl.make(canvas, { xmin, xmax, ymin, ymax });
        pl.clear(); pl.axes({ xLabel: 'θ', yLabel: 'g(θ)' });
        // 関数曲線
        const grid = st.linspace(0.3, 2.9, 120);
        pl.line(grid.map(t => [t, g(t)]), { color: Pl.colors[2], width: 2.5 });
        // 接線
        pl.line([[th - 1.2, gy - slope * 1.2], [th + 1.2, gy + slope * 1.2]], { color: Pl.gray, width: 1.5, dash: [5, 4] });
        // 入力分布（下側、横向きの山）
        const scaleIn = 0.5 / st.normalPdf(th, th, sd);
        pl.line(st.linspace(th - 3 * sd, th + 3 * sd, 60).map(t => [t, ymin + st.normalPdf(t, th, sd) * scaleIn * 0.6]), { color: Pl.colors[0], width: 2 });
        pl.vline(th, { color: Pl.colors[0], dash: [3, 3] });
        // 出力分布（左側、縦向きの山）
        const scaleOut = 0.5 / st.normalPdf(gy, gy, outSd);
        pl.line(st.linspace(gy - 3 * outSd, gy + 3 * outSd, 60).map(v => [xmin + st.normalPdf(v, gy, outSd) * scaleOut * 0.6, v]), { color: Pl.colors[1], width: 2 });
        pl.hline(gy, { color: Pl.colors[1], dash: [3, 3] });
        pl.scatter([[th, gy]], { color: Pl.ink, r: 5 });
        pl.text(xmax, ymax, "g′(θ) = " + slope.toFixed(2), { align: 'right', baseline: 'top', dx: -8, dy: 6, color: '#475467', size: 12.5 });
        pl.text(xmax, ymax, '出力SD ≈ |g′|·SD = ' + outSd.toFixed(3), { align: 'right', baseline: 'top', dx: -8, dy: 26, color: Pl.colors[1], size: 12.5 });
      },
    },
  });

  /* --- 5. 分割表とカイ二乗独立性検定 --- */
  T.push({
    section: 'prep1', group: '検定', id: 'contingency', title: '分割表とカイ二乗独立性検定',
    summary: '2つのカテゴリ変数が「無関係かどうか」を、観測度数と期待度数のズレ（カイ二乗統計量）で検定します。',
    body: `
<p>2つのカテゴリ変数（例：性別×商品の好み）をクロス集計した表を<strong>分割表</strong>と呼びます。「2変数は独立か（無関係か）」を調べるのが<strong>カイ二乗独立性検定</strong>です。</p>
<h3>形は同じ、意味は違う——3つの $\\chi^2$ 検定</h3>
<p>$\\chi^2=\\sum(O-E)^2/E$ という<strong>同じ式</strong>を使う検定が3つあり、混同しやすいので先に整理します。違うのは「標本の取り方」と「帰無仮説」、そして自由度です。</p>
<table class="simple">
<tr><th>検定</th><th>データの取り方</th><th>帰無仮説</th><th>自由度</th></tr>
<tr><td><a href="#/prep1/goodness-of-fit">適合度検定</a></td><td>1変数の度数</td><td>理論分布に従う</td><td>$k-1-m$（$m$＝推定したパラメータ数）</td></tr>
<tr><td><strong>独立性検定</strong>（本項）</td><td>1標本を2変数でクロス集計</td><td>2変数は独立</td><td>$(r-1)(c-1)$</td></tr>
<tr><td>同質性検定</td><td><strong>各群の標本サイズを固定</strong>して抽出</td><td>群ごとの分布が同じ</td><td>$(r-1)(c-1)$</td></tr>
</table>
<p>独立性と同質性は<strong>計算がまったく同じ</strong>で、違うのは設計と結論の言い方だけです（「2変数に関連がある」か「群によって分布が違う」か）。試験ではこの読み分けが問われます。</p>
<h3>期待度数と検定統計量</h3>
<p>もし独立なら、各セルの度数は行合計と列合計から次のように予想できます。</p>
<p>$$ E_{ij}=\\frac{(\\text{行}i\\text{の合計})\\times(\\text{列}j\\text{の合計})}{\\text{総数}\\,N} $$</p>
<p>この式が出る理由は独立の定義そのものです。独立なら同時確率が周辺確率の積 $P(\\text{行}i,\\text{列}j)=P(\\text{行}i)\\,P(\\text{列}j)$ になり、各周辺確率を $\\hat P(\\text{行}i)=\\text{行}i\\text{合計}/N$、$\\hat P(\\text{列}j)=\\text{列}j\\text{合計}/N$ で推定して $N$ 倍すれば $E_{ij}=N\\cdot\\frac{\\text{行}i}{N}\\cdot\\frac{\\text{列}j}{N}=\\frac{\\text{行}i\\times\\text{列}j}{N}$。「独立ならこうなるはず」の度数です。</p>
<p>観測度数 $O_{ij}$ と期待度数 $E_{ij}$ のズレを合計したのが検定統計量です。各セルの $(O-E)/\\sqrt{E}$ はおおよそ標準化された揺らぎで、その二乗和が近似的にカイ二乗分布に従います。ただし「おおよそ」なのには理由があり、<strong>どのセルがズレの原因かを読むときは補正が要ります</strong>——周辺度数を固定した条件下では $O_{ij}$ の分散は $E_{ij}$ より小さく $E_{ij}(1-p_{i\\cdot})(1-p_{\\cdot j})$ になるので、$(O-E)/\\sqrt{E}$ は分散を過大に見積もって値が小さめに出ます。正しくは<strong>調整済み標準化残差</strong>を使います。</p>
<p>$$ d_{ij}=\\frac{O_{ij}-E_{ij}}{\\sqrt{E_{ij}\\,(1-p_{i\\cdot})(1-p_{\\cdot j})}}\\ \\approx\\ N(0,1) $$</p>
<p>$|d_{ij}|>2$ を目安に「どのセルが独立からずれているか」を読みます。全体の $\\chi^2$ が有意になった<strong>後</strong>に必ず来る問いが「どこがズレているのか」なので、この残差を見る手順まで込みで1セットです。自由度が $(r-1)(c-1)$ になるのは、$rc$ 個のセルから「総数の固定（$-1$）」「行周辺の推定（$-(r-1)$）」「列周辺の推定（$-(c-1)$）」を引くから：$rc-1-(r-1)-(c-1)=(r-1)(c-1)$。</p>
<p>$$ \\chi^2=\\sum_{i,j}\\frac{(O_{ij}-E_{ij})^2}{E_{ij}} \\;\\sim\\; \\chi^2_{(r-1)(c-1)} $$</p>
<p>$\\chi^2$ が大きい（$p$ 値が小さい）ほど「独立とは言えない＝関連がある」と判断します。2×2 表なら<strong>オッズ比</strong>で関連の向きと強さも表せます。</p>

<h3>前提条件と、崩れたときの影響</h3>
<table class="simple">
<tr><th>前提</th><th>崩れると起きること</th><th>対処・代替</th></tr>
<tr><td>期待度数が十分大きい（目安 $E_{ij}\\ge5$）</td><td>疎なセルでカイ二乗近似が崩れ、$p$ 値が不正確になる</td><td>フィッシャーの正確検定・カテゴリの併合</td></tr>
<tr><td>観測が独立（各対象は1回だけ計上）</td><td>同一対象の反復測定・対応データだと関連を過大評価</td><td>マクネマー検定（対応2×2）・コクラン=マンテル=ヘンツェル</td></tr>
<tr><td>2×2 の連続修正</td><td>小標本の2×2でカイ二乗が甘くなる（$p$ 過小）</td><td>イェーツの連続修正・フィッシャー正確検定</td></tr>
<tr><td>関連の有無だけでなく交絡を考慮</td><td>第3変数で層別すると関連が消える/逆転（シンプソン）</td><td>層別・<a href="#/prep1/log-linear">対数線形モデル</a>・ロジスティック回帰</td></tr>
</table>

<h3>有意性と実質的な意味</h3>
<p>カイ二乗が有意でも「関連が<strong>強い</strong>」とは限りません。$\\chi^2$ は標本サイズに比例して膨らむからです——同じ比率のまま度数を3倍にすると $\\chi^2$ も3倍になります（数値例で $9.33\\to28.0$）。だから大標本では実質無意味な偏りも「有意」になります。関連の強さは標本サイズに依らない<strong>効果量</strong>で測ります。$2\\times2$ なら $\\phi=\\sqrt{\\chi^2/N}$（$\\chi^2=N\\phi^2$）やオッズ比、一般の表なら<strong>クラメールの $V=\\sqrt{\\dfrac{\\chi^2}{N\\,\\min(r-1,c-1)}}$</strong>。先の度数3倍の例でも $V$ は 0.258 のまま変わりません。報告は「$p$ 値＋$V$（またはオッズ比）と信頼区間」をセットにします。</p>
<div class="note">下は 2×3 の分割表。関連の強さを上げると、観測度数（濃い棒）が期待度数（薄い枠）から離れ、$\\chi^2$ と関連が大きくなります。関連ゼロだと観測と期待がほぼ重なり、$p$ 値は大きく（独立を棄却できない）なります。</div>`,
    demo: {
      task: {
        q: '関連の強さを0にして総数 $N$ を600まで上げてください。$\\chi^2$ と $p$ 値は大きくなりますか。次に関連を0.4に固定して $N$ を60→600にすると何が起きますか。',
        a: '<p><strong>関連0のとき</strong>：$N$ を増やしても $\\chi^2$ は大きくなりません。自由度1の分布のまわり（期待値1）を漂うだけで、$p$ 値も一様にばらつきます。帰無仮説が正しいときの正しい振る舞いです。</p><p><strong>関連0.4のとき</strong>：$\\chi^2\\approx N\\phi^2$ なので $N$ に<strong>比例して増えます</strong>——$N=60$ で約9.6、$N=240$ で約38、$N=600$ で約96。棄却限界3.84をどんどん引き離します。</p><p>この式が重要な教訓を含んでいます。<strong>$\\chi^2$ は「関連の強さ $\\phi^2$」×「標本サイズ $N$」</strong>。だから $N$ を増やせば、どんなに弱い関連でもいずれ有意になる。関連0.05のような実質的に無意味な差でも、$N=10{,}000$ なら $\\chi^2=25$ で有意です。</p><p>だから<strong>「有意だった」は「関連がある」であって「関連が強い」ではありません</strong>。強さは $\\phi$（2×2）やクラメールの $V$ で報告します。$\\phi$ は $N$ に依存しない<strong>効果量</strong>で、これこそが実質的な意味を運ぶ数字です。',
      },
      note: '濃い棒が観測、薄い枠が「独立なら期待される」度数。関連を強めると両者がズレて χ² が増え、p値が下がります。ズレの二乗和がそのまま χ² です。',
      controls: [
        { type: 'range', id: 'assoc', label: '関連の強さ', min: 0, max: 1, step: 0.05, value: 0.4 },
        { type: 'range', id: 'N', label: '総サンプル数', min: 60, max: 600, step: 30, value: 240 },
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const rand = st.rng(500 + (p.reseed | 0) * 29);
        const rows = 2, cols = 3;
        const N = Math.round(p.N);
        // 独立な基準確率 + 関連による偏り
        const rowP = [0.5, 0.5];
        const colP = [0.3, 0.45, 0.25];
        const O = [[0, 0, 0], [0, 0, 0]];
        for (let s = 0; s < N; s++) {
          let ri = rand() < rowP[0] ? 0 : 1;
          // 関連: 行0は列0寄り、行1は列2寄りにゆがめる
          let cp = colP.slice();
          const shift = p.assoc * 0.3;
          if (ri === 0) { cp = [colP[0] + shift, colP[1], colP[2] - shift]; }
          else { cp = [colP[0] - shift, colP[1], colP[2] + shift]; }
          const u = rand(); let ci = 0, acc = 0;
          for (let j = 0; j < cols; j++) { acc += Math.max(0, cp[j]); if (u < acc) { ci = j; break; } ci = j; }
          O[ri][ci]++;
        }
        const rowT = O.map(r => r.reduce((a, b) => a + b, 0));
        const colT = [0, 1, 2].map(j => O[0][j] + O[1][j]);
        const E = [[0, 0, 0], [0, 0, 0]];
        let chi2 = 0;
        for (let i = 0; i < rows; i++) for (let j = 0; j < cols; j++) { E[i][j] = rowT[i] * colT[j] / N; chi2 += (O[i][j] - E[i][j]) ** 2 / (E[i][j] || 1); }
        const dfc = (rows - 1) * (cols - 1);
        const pval = 1 - st.chi2Cdf(chi2, dfc);
        const maxV = Math.max.apply(null, O.flat().concat(E.flat())) * 1.15;
        const pl = Pl.make(canvas, { xmin: 0, xmax: 6, ymin: 0, ymax: maxV });
        pl.clear();
        pl.axes({ xLabel: '（行×列）の6セル', yLabel: '度数', xTicks: [] , xFmt: () => '' });
        const ctx = pl.ctx;
        let idx = 0;
        for (let i = 0; i < rows; i++) for (let j = 0; j < cols; j++) {
          const x = idx + 0.5;
          // 期待（薄い枠）
          const x0 = pl.X(x - 0.38), x1 = pl.X(x + 0.38);
          ctx.strokeStyle = Pl.gray; ctx.lineWidth = 1.5;
          ctx.strokeRect(x0, pl.Y(E[i][j]), x1 - x0, pl.Y(0) - pl.Y(E[i][j]));
          // 観測（濃い棒）
          pl.bars([{ x0: x - 0.28, x1: x + 0.28, y: O[i][j] }], { color: Pl.colors[i], alpha: 0.75 });
          ctx.fillStyle = '#98a2b3'; ctx.font = '10.5px sans-serif'; ctx.textAlign = 'center'; ctx.textBaseline = 'top';
          ctx.fillText('行' + (i + 1) + '列' + (j + 1), pl.X(x), pl.Y(0) + 6);
          idx++;
        }
        pl.text(6, maxV, 'χ² = ' + chi2.toFixed(1) + '（df=' + dfc + '）', { align: 'right', baseline: 'top', dx: -8, dy: 6, color: Pl.ink, size: 13 });
        pl.text(6, maxV, 'p = ' + (pval < 0.001 ? '<0.001' : pval.toFixed(3)) + (pval < 0.05 ? ' ✓関連あり' : ' 独立を棄却できず'), { align: 'right', baseline: 'top', dx: -8, dy: 26, color: pval < 0.05 ? Pl.colors[2] : '#98a2b3', size: 12.5 });
      },
    },
  });

  /* --- 6. ノンパラメトリック検定 --- */
  T.push({
    section: 'prep1', group: '検定', id: 'nonparametric', title: 'ノンパラメトリック検定（順位に基づく検定）',
    summary: '正規分布を仮定せず「順位」だけで比べるウィルコクソン検定。外れ値に強い理由を、t検定との比較で見ます。',
    body: `
<p>t検定は「データが正規分布に従う」ことを前提にします。分布がゆがんでいたり<strong>外れ値</strong>があると、この前提が崩れて結論を誤ります。<strong>ノンパラメトリック検定</strong>は分布の形を仮定せず、値を<strong>順位</strong>に置き換えて比較します。</p>
<h3>ウィルコクソンの順位和検定（マン・ホイットニー）</h3>
<p><strong>同じ値（タイ）があるときは平均順位</strong>を割り当てます——3位と4位が同値なら両方3.5位。実データでは離散値や測定限界のせいでタイが頻繁に起き、このとき分散に補正項 $-\\dfrac{n_1n_2\\sum(t^3-t)}{12N(N-1)}$（$t$ は各タイ群の大きさ）が入って分散が<strong>小さく</strong>なります。補正を忘れると検定が保守的になりすぎます。タイが多いと正確分布も使えず正規近似に頼らざるを得ない、という点も実務では効いてきます。</p>
<p>2群のデータを混ぜて小さい順に順位をつけ、片方の群の順位の和 $W$ を検定統計量にします。独立・同分布なら</p>
<p>$$ E[W]=\\frac{n_1(N+1)}{2},\\qquad \\mathrm{Var}(W)=\\frac{n_1 n_2 (N+1)}{12} $$</p>
<p>で、正規近似 $z=(W-E[W])/\\sqrt{\\mathrm{Var}(W)}$ から $p$ 値を求めます。値そのものでなく順位を使うので、<strong>極端な外れ値の影響を受けにくい</strong>のが利点です。対応のあるデータには符号付き順位検定、3群以上にはクラスカル・ウォリス検定を使います。</p>
<h3>なぜこの期待値・分散になるか</h3>
<p>帰無仮説（2群が同分布）が正しければ、順位 $1,2,\\dots,N$ の割り当ては<strong>完全にランダム</strong>——どの順位が群1に入るかは対等です。群1の各メンバーの順位の期待値は全順位の平均 $(N+1)/2$ なので、$n_1$ 個の和の期待値は $E[W]=n_1(N+1)/2$。分散は「$N$ 個から $n_1$ 個を非復元抽出した和」の分散（有限母集団）として $\\mathrm{Var}(W)=n_1 n_2(N+1)/12$ が出ます（数値でも $n_1{=}n_2{=}10$ で $E[W]{=}105$、$\\mathrm{Var}{=}175$ を実測確認）。値ではなく順位に依存するので、外れ値が「一番大きい順位 $N$」以上には効きようがない＝頑健、という仕組みが式に現れています。</p>
<h3>有意性と実質的な意味（頑健性と効率のトレードオフ）</h3>
<p>「正規なら常に $t$ 検定、外れ値があるならノンパラ」という単純な話ではありません。ウィルコクソン検定の<strong>漸近相対効率（ARE）</strong>は、<strong>データが本当に正規でも $3/\\pi\\approx0.955$</strong>——つまり最良の $t$ 検定に対して失う効率はわずか5%弱です。一方、裾の重い分布では ARE が1を大きく超え、$t$ 検定を上回ります。<strong>「正規のときの小さな保険料（5%）で、非正規のときの大きな保障を買う」</strong>のがノンパラ検定の実像で、多くの実務で既定の選択肢になり得ます。注意点として、順位和検定が調べるのは厳密には「平均差」ではなく「分布のずれ（一方が系統的に大きい傾向）」で、2群の<strong>分散や形が違う</strong>と「中央値の差」の検定としては解釈がぶれます。また有意性とは別に、効果の大きさは順位ベースの効果量（クリフのδ、確率優越 $P(X{>}Y)$）で報告します。</p>
<div class="note">下で外れ値の大きさを上げると、平均を使う t検定の $p$ 値は大きく振り回されますが、順位を使うウィルコクソン検定は安定しています。「1個の異常値に結論を乗っ取られない」頑健さが体感できます。外れ値0でも両者の $p$ 値がほぼ一致する（ARE≈0.955）ことも確かめてください——正規時の「保険料」の小ささの実感です。</div>`,
    demo: {
      task: {
        q: '外れ値を0にして2群の差を1に設定し、$t$ 検定とウィルコクソン検定の結果を見てください。次に外れ値を30まで上げると、両者はどう変わりますか。',
        a: '<p><strong>外れ値0（正規に近い）</strong>：両方とも同じような結論を出しますが、$t$ 検定のほうが $p$ 値がやや小さい——正規性が成り立つときは $t$ 検定のほうが検出力が高い（漸近相対効率 $3/\\pi\\approx0.955$）からです。</p><p><strong>外れ値を30にすると</strong>：$t$ 検定は<strong>急激に検出力を失います</strong>。外れ値が標本平均を引っ張り、同時に標本分散を大きく膨らませるため、$t=\\dfrac{\\bar x_1-\\bar x_2}{\\text{SE}}$ の分母が爆発するからです。一方ウィルコクソンは<strong>ほとんど影響を受けません</strong>——外れ値も「いちばん大きい順位」でしかないので。</p><p>ここが使い分けの核心です。<strong>順位に置き換えることで、値の大きさの情報を捨てる代わりに外れ値への頑健性を買っています</strong>。正規性が成り立つ状況ではその代償が約4.5%の検出力損失にとどまる——<strong>「保険料が安い」</strong>ので、疑わしいときはノンパラを選んでよい、というのが実務の判断です。</p><p>各群のサンプル数を6に下げると、ウィルコクソンでは<strong>取りうる $p$ 値が離散的で下限がある</strong>ことも確かめられます。小標本では「どうやっても有意にならない」場合があります。',
      },
      note: '外れ値を大きくすると、t検定（平均ベース）の p値は不安定に暴れます。ウィルコクソン（順位ベース）はほぼ動かない＝外れ値に頑健。分布が正規から外れるときの保険です。',
      controls: [
        { type: 'range', id: 'shift', label: '2群の真の差', min: 0, max: 3, step: 0.1, value: 1 },
        { type: 'range', id: 'outlier', label: '外れ値の大きさ', min: 0, max: 30, step: 1, value: 0 },
        { type: 'range', id: 'n', label: '各群のサンプル数', min: 6, max: 30, step: 1, value: 12 },
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const rand = st.rng(610 + (p.reseed | 0) * 41);
        const n = Math.round(p.n);
        const g1 = [], g2 = [];
        for (let i = 0; i < n; i++) { g1.push(st.randn(rand)); g2.push(p.shift + st.randn(rand)); }
        if (p.outlier > 0) g2[0] += p.outlier; // 1個だけ外れ値
        // t検定（Welch 近似は使わず等分散プール、簡易）
        const m1 = st.mean(g1), m2 = st.mean(g2), s1 = st.sd(g1), s2 = st.sd(g2);
        const sp = Math.sqrt(((n - 1) * s1 * s1 + (n - 1) * s2 * s2) / (2 * n - 2));
        const tstat = (m2 - m1) / (sp * Math.sqrt(2 / n) || 1e-9);
        const tp = 2 * (1 - st.tCdf(Math.abs(tstat), 2 * n - 2));
        // ウィルコクソン順位和
        const all = g1.map(v => ({ v, g: 1 })).concat(g2.map(v => ({ v, g: 2 })));
        all.sort((a, b) => a.v - b.v);
        all.forEach((o, i) => { o.rank = i + 1; });
        let W = 0; for (const o of all) if (o.g === 1) W += o.rank;
        const N = 2 * n;
        const EW = n * (N + 1) / 2, VW = n * n * (N + 1) / 12;
        const z = (W - EW) / Math.sqrt(VW);
        const wp = 2 * (1 - st.normalCdf(Math.abs(z)));
        // 描画: 2群のドットプロット + p値
        const allV = g1.concat(g2);
        const xmin = Math.min.apply(null, allV) - 1, xmax = Math.max.apply(null, allV) + 1;
        const pl = Pl.make(canvas, { xmin, xmax, ymin: 0, ymax: 3 });
        pl.clear(); pl.axes({ xLabel: '値', yLabel: '', yTicks: [1, 2], yFmt: v => '群' + v });
        for (const v of g1) pl.scatter([[v, 1 + (rand() - 0.5) * 0.3]], { color: Pl.colors[0], r: 4, alpha: 0.75 });
        for (const v of g2) pl.scatter([[v, 2 + (rand() - 0.5) * 0.3]], { color: Pl.colors[1], r: 4, alpha: 0.75 });
        pl.vline(m1, { color: Pl.colors[0], label: '平均1' });
        pl.vline(m2, { color: Pl.colors[1], label: '平均2' });
        pl.text(xmax, 3, 't検定 p = ' + (tp < 0.001 ? '<0.001' : tp.toFixed(3)), { align: 'right', baseline: 'top', dx: -8, dy: 6, color: Pl.colors[3], size: 13 });
        pl.text(xmax, 3, 'Wilcoxon p = ' + (wp < 0.001 ? '<0.001' : wp.toFixed(3)), { align: 'right', baseline: 'top', dx: -8, dy: 26, color: Pl.colors[2], size: 13 });
      },
    },
  });

  /* --- 7. ブートストラップ --- */
  T.push({
    section: 'prep1', group: '推定', id: 'bootstrap', title: 'ブートストラップ',
    summary: '手元のデータから「復元抽出」を繰り返すだけで、中央値など難しい統計量の信頼区間を作れる計算的手法です。',
    body: `
<p>標本平均の標準誤差は $\\sigma/\\sqrt{n}$ と公式がありますが、<strong>中央値・相関係数・分位点</strong>などは公式が複雑だったり存在しません。<strong>ブートストラップ</strong>は、公式の代わりに<strong>計算機で再標本化</strong>して不確かさを見積もる方法です。</p>
<h3>やり方</h3>
<ol>
<li>手元の $n$ 個のデータから、<strong>復元抽出</strong>で $n$ 個を選び直す（同じ値が複数回選ばれてよい）。</li>
<li>その再標本で統計量（例：中央値）を計算する。</li>
<li>これを何千回も繰り返すと、統計量の<strong>ブートストラップ分布</strong>ができる。</li>
<li>その分布の 2.5% 点と 97.5% 点が 95% 信頼区間（パーセンタイル法）。</li>
</ol>
<p>ここで当然の疑問が出ます——<strong>$\\hat\\theta^*$ のばらつきは $\\hat\\theta$ のばらつきの代理なのに、なぜ $\\hat\\theta^*$ の分位点をそのまま $\\theta$ の区間にしてよいのか？</strong> 素直に考えるなら「$\\hat\\theta^*-\\hat\\theta$ の分布が $\\hat\\theta-\\theta$ の分布を近似する」と見るべきで、そこから区間を作ると</p>
<p>$$ \\big[\\,2\\hat\\theta-\\theta^*_{(0.975)},\\ \\ 2\\hat\\theta-\\theta^*_{(0.025)}\\,\\big]\\qquad(\\text{基本ブートストラップ}) $$</p>
<p>と、$\\hat\\theta$ を中心に<strong>左右を反転</strong>した形になります。ブートストラップ分布が対称ならパーセンタイル法と一致しますが、歪むとずれます。それでもパーセンタイル法が広く使われるのは<strong>変換不変</strong>だから——対数を取ってから区間を作って戻しても同じ区間になり、正の量の区間が負に食い込むといった不都合が起きません。歪みと偏りの両方を補正したのが表にある BCa です。</p>
<p><strong>$B$ をいくつにするか</strong>：標準誤差の推定だけなら $B\\approx200$ で足りますが、区間の端（2.5%点・97.5%点）は裾の少数の値で決まるので $B\\ge2000$、できれば $10^4$ が目安です。モンテカルロ誤差は $1/\\sqrt B$ でしか減らないので、$B$ を10倍にしても計算のノイズは約1/3にしかならない点も覚えておいてください。</p>
<p>「1つの標本を母集団のミニチュアとみなして、そこから何度も標本を取り直す」という発想です。<a href="#/prep1/clt">中心極限定理</a>が使えない統計量にも、区間推定を与えてくれます。ジャックナイフや並べ替え検定と同じ「計算多用手法」の仲間です。</p>
<h3>なぜこれで動くのか（プラグイン原理）</h3>
<p>知りたいのは「母集団分布 $F$ から標本を取り直したときの $\\hat\\theta$ のばらつき」（標本分布）ですが、$F$ は手に入りません。そこで $F$ を、各観測値に確率 $\\frac1n$ を置いた<strong>経験分布 $\\hat F_n$ に差し替えます</strong>（プラグイン原理）。$\\hat F_n$ から大きさ $n$ の i.i.d. 標本を取る操作が、まさに<strong>復元抽出</strong>です——復元でなければ毎回同じ標本が返るだけで、$\\hat F_n$ からの独立標本になりません。$n\\to\\infty$ で $\\hat F_n$ は $F$ に一様収束する（グリベンコ・カンテリの定理）ので、「$\\hat F_n$ の世界のばらつき」は「$F$ の世界のばらつき」の近似になります。標準誤差の推定値は</p>
<p>$$ \\widehat{\\mathrm{SE}}_{\\mathrm{boot}}=\\sqrt{\\frac{1}{B-1}\\sum_{b=1}^{B}\\bigl(\\hat\\theta^{*}_{b}-\\bar{\\theta}^{*}\\bigr)^{2}} $$</p>
<p>実際、公式が既知の「平均」で答え合わせすると、ブートストラップSEは $\\sqrt{\\tfrac{n-1}{n}}\\cdot s/\\sqrt n$ にほぼ一致します（$B{=}20000,n{=}40$ の数値実験で 2.145 vs 理論 2.146）。<strong>公式がある場合は公式を再現し、ない場合にも同じ手続きで動く</strong>——これがブートストラップの価値です。</p>
<h3>前提条件と、崩れたときの影響</h3>
<table class="simple">
<tr><th>前提</th><th>崩れると起きること</th><th>対処・代替</th></tr>
<tr><td>観測が i.i.d.</td><td>時系列・クラスターでは依存構造が壊れ、SEを過小評価</td><td>ブロック・ブートストラップ（<a href="#/prep1/timeseries">時系列</a>は塊ごと再標本化）</td></tr>
<tr><td>$n$ が小さすぎない</td><td>$\\hat F_n$ が $F$ の粗い近似になり、区間の被覆率が名目95%を下回る</td><td>$n\\lesssim15$ では過信しない・正確法や $t$ 区間と併用</td></tr>
<tr><td>統計量が「滑らか」</td><td>標本最大値・台の端点では原理的に失敗（一致性が壊れる有名な反例）。端の分位点も $n$ 小で不安定</td><td>極値理論・パラメトリック・ブートストラップ</td></tr>
<tr><td>パーセンタイル法の限界</td><td>ブートストラップ分布が歪むと区間がずれる</td><td>BCa（偏り・加速度補正）・スチューデント化——精度は上がるが手間も増えるトレードオフ</td></tr>
</table>
<h3>有意性と実質的な意味</h3>
<p>ブートストラップ信頼区間の「95%」も<strong>近似</strong>であって保証ではありません（$n$ 小・歪み大では下回る）。もう1つ重要なのは、<strong>$B$（再標本の回数）を増やしてもデータの情報は1ビットも増えない</strong>ことです。$B$ はモンテカルロ誤差（計算のノイズ）を減らすだけで、区間の幅を決めるのはあくまで $n$。「$B=10^6$ 回まわした」は精密さの証明にはならず、幅の広い区間はデータ不足の正直な報告です（<a href="#/prep1/monte-carlo">モンテカルロ法</a>）。</p>
<div class="note">下は元データ（上の点）から復元抽出を繰り返して作った、統計量のブートストラップ分布（下のヒストグラム）。赤い範囲が95%信頼区間。統計量を中央値や平均に切り替え、サンプル数を変えて、区間の幅がどう変わるか見てください。元データは右に歪んだ対数正規です——「90パーセンタイル」に切り替えるとブートストラップ分布がギザギザで非対称になります。これが上の表の「端の分位点は不安定」「パーセンタイル法は歪みに弱い」の実物です。$n$ を増やすと（情報が増えるので）区間が締まります。</div>`,
    demo: {
      task: {
        q: '統計量を「中央値」にして $n$ を10→120に上げてください。ブートストラップ分布と区間幅はどう変わりますか。次に「90パーセンタイル」に切り替えると、分布の形はどうなりますか。',
        a: '<p><strong>中央値</strong>：$n$ を上げると区間はおよそ $1/\\sqrt n$ で縮み（$n$ を12倍にして幅は約1/3.5）、分布もなめらかになります。$n=10$ では分布が<strong>ギザギザ</strong>——リサンプルの中央値は元データの値（かその平均）しか取れないため、離散的になるからです。</p><p><strong>90パーセンタイル</strong>に切り替えると、分布は<strong>もっとギザギザで、はっきり非対称</strong>になります。端の分位点は「上位1〜2個の観測値」でほぼ決まるので、リサンプルでその値が何個入るかによって飛び飛びに動くのです。</p><p>ここが実務での注意点です。<strong>ブートストラップは万能ではなく、「端の統計量」では信頼性が落ちます</strong>。中央値のように中心付近の統計量には強いが、最大値・最小値には原理的に使えません（リサンプルは元データの最大値を超えられない）。</p><p>もう1つ——<strong>元データが対数正規（右歪み）</strong>なので、平均に切り替えると分布も右に歪むことを確かめてください。パーセンタイル法が広く使われるのは<strong>変換不変</strong>（対数を取って区間を作り戻しても同じ）だからですが、歪みが強いときは BCa のほうが被覆率が良くなります。',
      },
      note: '下のヒストグラムがブートストラップ分布、赤い帯が95%信頼区間。中央値のように公式が面倒な統計量でも、再標本化だけで区間が得られます。n を増やすと区間が狭くなります。',
      controls: [
        { type: 'select', id: 'stat', label: '統計量', value: 'median', options: [
          { value: 'median', label: '中央値' },
          { value: 'mean', label: '平均' },
          { value: 'p90', label: '90パーセンタイル' },
        ]},
        { type: 'range', id: 'n', label: '元データのサンプル数', min: 10, max: 120, step: 10, value: 40 },
        { type: 'button', id: 'reseed', label: '元データ再生成' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const rand = st.rng(700 + (p.reseed | 0) * 61);
        const n = Math.round(p.n);
        // 右に歪んだ元データ（対数正規）
        const data = [];
        for (let i = 0; i < n; i++) data.push(Math.exp(0.5 * st.randn(rand)) * 10);
        const statf = arr => {
          const s = arr.slice().sort((a, b) => a - b);
          if (p.stat === 'mean') return st.mean(s);
          if (p.stat === 'median') return s[Math.floor(s.length / 2)];
          return s[Math.floor(s.length * 0.9)];
        };
        const B = 2000, boots = [];
        for (let b = 0; b < B; b++) {
          const re = [];
          for (let i = 0; i < n; i++) re.push(data[Math.floor(rand() * n)]);
          boots.push(statf(re));
        }
        boots.sort((a, b) => a - b);
        const lo = boots[Math.floor(B * 0.025)], hi = boots[Math.floor(B * 0.975)];
        const bmin = boots[0], bmax = boots[B - 1];
        const bins = st.histogram(boots, 40, bmin, bmax);
        const ymaxH = Math.max.apply(null, bins.map(b => b.count)) * 1.15 || 1;
        // 上段: 元データ点、下段: ブート分布。1枚に収めるため上に元データを小さく
        const pl = Pl.make(canvas, { xmin: bmin - (bmax - bmin) * 0.1, xmax: bmax + (bmax - bmin) * 0.1, ymin: 0, ymax: ymaxH * 1.25 });
        pl.clear(); pl.axes({ xLabel: '統計量の値', yLabel: '回数' });
        // 95% CI 帯
        const ctx = pl.ctx;
        ctx.fillStyle = 'rgba(228,87,46,0.10)';
        ctx.fillRect(pl.X(lo), pl.pad.top, pl.X(hi) - pl.X(lo), pl.H - pl.pad.top - pl.pad.bottom);
        pl.bars(bins.map(b => ({ x0: b.x0, x1: b.x1, y: b.count })), { color: Pl.colors[0], alpha: 0.6 });
        pl.vline(lo, { color: Pl.colors[1], label: '2.5%' });
        pl.vline(hi, { color: Pl.colors[1], label: '97.5%' });
        const obs = statf(data);
        pl.vline(obs, { color: Pl.ink, dash: [], label: '観測値' });
        pl.text(bmax, ymaxH * 1.25, '95%CI = [' + lo.toFixed(1) + ', ' + hi.toFixed(1) + ']', { align: 'right', baseline: 'top', dx: -8, dy: 6, color: Pl.colors[1], size: 12.5 });
      },
    },
  });

  /* --- 8. 時系列の基礎 --- */
  T.push({
    section: 'prep1', group: '時系列', id: 'timeseries', title: '時系列の基礎（自己相関・定常性）',
    summary: '時間で並んだデータ特有の「前の値を引きずる」性質を、AR(1)過程とランダムウォークで見ます。定常か非定常かが分かれ目です。',
    body: `
<p>時系列データは「時間順に並んでいて、隣りあう値が関係しあう」点がふつうの標本と違います。前の値との相関を<strong>自己相関</strong>と呼びます。</p>
<p><strong>定常性</strong>とは「どの時刻で切り取っても、確率的な性質が同じ」こと。実務で使う<strong>弱定常</strong>の定義は次の3つです：平均が一定 $E[x_t]=\\mu$、分散が一定、そして自己共分散 $\\mathrm{Cov}(x_t,x_{t+k})$ が時刻 $t$ によらず<strong>ラグ $k$ だけ</strong>で決まる。この性質があるから「1本の系列から平均や自己相関を推定する」ことが正当化されます。</p>
<h3>AR(1) 過程</h3>
<p>最も基本的なモデルが1次自己回帰 AR(1) です。</p>
<p>$$ x_t = \\phi\\, x_{t-1} + \\varepsilon_t $$</p>
<ul>
<li>$|\\phi|<1$：過去の影響が徐々に薄れ、平均に戻る（<strong>定常</strong>）。自己相関は $\\phi^k$ で指数的に減衰。</li>
<li>$\\phi=1$：影響が消えない<strong>ランダムウォーク</strong>。分散が時間とともに増え、平均に戻らない（<strong>非定常</strong>）。株価などが近い。</li>
<li>$\\phi<0$：正負が交互に出て振動する。</li>
</ul>
<p><strong>なぜ $|\\phi|<1$ が分かれ目か</strong>：定常なら分散が一定のはずなので、$\\mathrm{Var}(x_t)=\\phi^2\\mathrm{Var}(x_{t-1})+\\sigma^2$ に $\\mathrm{Var}(x_t)=\\mathrm{Var}(x_{t-1})=v$ を代入すると</p>
<p>$$ v=\\phi^2 v+\\sigma^2 \\;\\Rightarrow\\; v=\\frac{\\sigma^2}{1-\\phi^2} $$</p>
<p>$|\\phi|\\ge1$ ではこの $v$ が正の値として存在しません——「定常な分散を持てない」のが非定常の正体です。同様に自己相関は $\\rho_k=\\phi^k$（1期ごとに $\\phi$ 倍ずつ記憶が薄れる）と導けます。</p>
<p>多くの時系列手法（<a href="#/prep1/arima">ARIMA</a> など）は、階差をとって<strong>定常</strong>に変換してから分析します。</p>
<h3>前提条件と、崩れたときの影響</h3>
<table class="simple">
<tr><th>前提</th><th>崩れると起きること</th><th>対処・代替</th></tr>
<tr><td>定常性</td><td>非定常系列どうしを回帰すると、無関係でも高い $R^2$ と「有意」が出る（<strong>見せかけの回帰</strong>）</td><td>単位根検定（ADF）で確認 → 階差・トレンド除去・共和分の検討</td></tr>
<tr><td>構造が途中で変わらない</td><td>途中でレジームが変わると1つのモデルでは平均も自己相関も合わない</td><td>区間を分ける・構造変化点の検出</td></tr>
<tr><td>誤差の無相関</td><td>残差に自己相関が残ると予測区間・SEが誤る</td><td><a href="#/prep1/acf-pacf">ACF/PACF</a>で残差診断 → 次数を増やす</td></tr>
</table>
<h3>有意性と実質的な意味</h3>
<p>自己相関のある系列に「独立な $n$ 個の標本」用の公式を使うと、<strong>標準誤差を過小評価</strong>します。正の自己相関 $\\phi$ を持つAR(1)では、平均の推定に効く<strong>実効標本サイズ</strong>が $n_{\\mathrm{eff}}\\approx n\\dfrac{1-\\phi}{1+\\phi}$ まで減るためです（$\\phi=0.7$ なら $n$ の約18%しかない）。時系列で出た「有意」は、まず定常性と残差の自己相関を確認してから信用する——これが実務の順序です。</p>
<div class="note">下で $\\phi$ を動かすと系列の様子が一変します。1 に近づけると大きくうねって戻らなくなり（非定常）、0 に近いとノイズのように暴れ、負にすると細かく振動します。右上に自己相関の減衰 $\\phi^k$ も表示します——上で導いた「1期ごとに $\\phi$ 倍」がそのままバーの長さです。</div>`,
    demo: {
      task: {
        q: '$\\phi$ を 0 → 0.7 → 0.95 → 1.0 と上げてください。系列の見た目と、平均への戻り方はどう変わりますか。$\\phi=1$ で決定的に何が変わりますか。',
        a: '<p>$\\phi=0$ は白色雑音（各点が独立）。$\\phi$ を上げるほど<strong>なめらかに波打ち、平均への戻りが遅く</strong>なります。定常時の分散は $\\sigma^2/(1-\\phi^2)$ なので、$\\phi=0.7$ で1.96倍、$\\phi=0.95$ で<strong>10.3倍</strong>まで振幅が膨らみます。</p><p><strong>$\\phi=1$ で質的に変わります</strong>——ランダムウォークになり、<strong>もう平均に戻りません</strong>。分散が $n$ とともに発散し（式の分母が0）、系列は行きっぱなしになる。これが<strong>非定常</strong>です。</p><p>$\\phi=0.95$ と $\\phi=1.0$ は見た目がよく似ていますが、性質は根本的に違います。0.95は「ゆっくりだが必ず戻る」、1.0は「戻らない」。<strong>この見分けが単位根検定（ADF・KPSS）の役割</strong>で、目視では判別できないから検定が要るのです。</p><p>系列の長さを50と300で比べてください。<strong>短い系列では $\\phi=0.95$ と $1.0$ の区別がほぼ不可能</strong>——単位根検定の検出力が低いことで有名なのは、この本質的な難しさが理由です。',
      },
      note: 'φを1に近づけると「トレンドのようにさまよう」非定常な動きに、0付近だと無相関ノイズ、負だとギザギザ振動。ARIMA はこれを階差で定常化してから扱います。',
      controls: [
        { type: 'range', id: 'phi', label: '自己回帰係数 φ', min: -0.95, max: 1.0, step: 0.05, value: 0.7 },
        { type: 'range', id: 'len', label: '系列の長さ', min: 50, max: 300, step: 25, value: 150 },
        { type: 'button', id: 'reseed', label: '再サンプル' },
      ],
      draw(canvas, p) {
        const st = S(), Pl = P();
        const rand = st.rng(810 + (p.reseed | 0) * 23);
        const nT = Math.round(p.len), phi = p.phi;
        const x = [0];
        for (let t = 1; t < nT; t++) x.push(phi * x[t - 1] + st.randn(rand));
        const ymin = Math.min.apply(null, x) - 1, ymax = Math.max.apply(null, x) + 1;
        const pl = Pl.make(canvas, { xmin: 0, xmax: nT, ymin, ymax });
        pl.clear(); pl.axes({ xLabel: '時刻 t', yLabel: 'x(t)' });
        pl.hline(0, { color: Pl.gray, dash: [4, 4] });
        pl.line(x.map((v, t) => [t, v]), { color: Pl.colors[0], width: 1.6 });
        // 自己相関（小さく右上に）: r_k = phi^k の理論値を表示
        const stat = Math.abs(phi) < 1 ? '定常（平均に回帰）' : '非定常（ランダムウォーク）';
        pl.text(0, ymax, 'φ = ' + phi.toFixed(2) + ' → ' + stat, { align: 'left', baseline: 'top', dx: 60, dy: 4, color: Math.abs(phi) < 1 ? Pl.colors[2] : Pl.colors[1], size: 12.5 });
        // ミニ自己相関バー
        const ctx = pl.ctx;
        const bx = pl.pad.left + (pl.W - pl.pad.left - pl.pad.right) * 0.62, by = pl.pad.top + 10, bw = 120, bh = 60;
        ctx.fillStyle = 'rgba(255,255,255,0.9)'; ctx.strokeStyle = '#dfe3ea';
        ctx.fillRect(bx, by, bw, bh); ctx.strokeRect(bx, by, bw, bh);
        ctx.fillStyle = '#66708a'; ctx.font = '10px sans-serif'; ctx.textAlign = 'left'; ctx.textBaseline = 'top';
        ctx.fillText('自己相関 φ^k', bx + 6, by + 3);
        for (let k = 1; k <= 8; k++) {
          const val = Math.pow(phi, k);
          const barx = bx + 6 + (k - 1) * 14;
          const zero = by + bh - 14;
          ctx.fillStyle = val >= 0 ? '#4f6df5' : '#e4572e';
          ctx.fillRect(barx, val >= 0 ? zero - val * 22 : zero, 9, Math.abs(val) * 22);
        }
      },
    },
  });
})();
