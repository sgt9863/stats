# DEEPENING_LOG — トピック深掘りログ

各トピックを「5層構成」に引き上げる差分作業の記録。
**5層**: L1 直感 / L2 数式(導出の要点つき) / L3 前提条件と崩れた時の影響・代替 / L4 グラフ接続 / L5 有意性と実質的意味(検定・推定・モデル系のみ)。
記号: `o`=充足 / `d`=部分的 / `x`=欠落 / `-`=非該当。

> 下表は初回の一次スキャン（ヒューリスティック判定）に基づくベースライン。深掘りするたびに該当行を更新する。
> 「gap」= 欠落度スコア（x=1, d=0.5 で合計）。大きいほど欠けた層が多い。

## 充足マトリクス（86トピック）

| section/id | L1 | L2 | L3 | L4 | L5 | gap | 状態 |
|---|:-:|:-:|:-:|:-:|:-:|:-:|---|
| **prep1/transformations** | o | o | o | o | - | 0 | ✅Iter.40 |
| **prep1/timeseries** | o | o | o | o | o | 0 | ✅Iter.13 |
| **prep1/three-tests** | o | o | o | o | o | 0 | ✅Iter.14 |
| **prep1/testing** | o | o | o | o | o | 0 | ✅Iter.2で深掘り済 |
| **prep1/svm** | o | o | o | o | o | 0 | ✅Iter.62 |
| **prep1/survival** | o | o | o | o | o | 0 | ✅Iter.72 |
| **prep1/sufficiency** | o | o | o | o | o | 0 | ✅Iter.16 |
| **prep1/stochastic-process** | o | o | o | o | o | 0 | ✅Iter.22 |
| **prep1/sampling-survey** | o | o | o | o | - | 0 | ✅Iter.78 |
| **prep1/sample-size** | o | o | o | o | o | 0 | ✅Iter.54 |
| **prep1/roc-auc** | o | o | o | o | - | 0 | ✅Iter.63 |
| **prep1/regularization** | o | o | o | o | o | 0 | ✅Iter.21 |
| **prep1/regression-diagnostics** | o | o | o | o | o | 0 | ✅Iter.66 |
| **prep1/random-variables** | o | o | o | o | - | 0 | ✅Iter.36 |
| **prep1/principles** | o | o | o | o | o | 0 | ✅Iter.82 |
| **prep1/pca** | o | o | o | o | - | 0 | ✅Iter.6 |
| **prep1/path-analysis** | o | o | o | o | o | 0 | ✅Iter.77 |
| **prep1/overfitting** | o | o | o | o | o | 0 | ✅Iter.61 |
| **prep1/orthogonal** | o | o | o | o | o | 0 | ✅Iter.19 |
| **prep1/order-statistics** | o | o | o | o | - | 0 | ✅Iter.60 |
| **prep1/odds-ratio** | o | o | o | o | o | 0 | ✅Iter.73 |
| **prep1/normal-tests** | o | o | o | o | o | 0 | ✅Iter.55 |
| **prep1/normal-approx** | o | o | o | o | - | 0 | ✅Iter.42 |
| **prep1/nonparametric** | o | o | o | o | o | 0 | ✅Iter.57 |
| **prep1/neyman-pearson** | o | o | o | o | o | 0 | ✅Iter.52 |
| **prep1/multivariate-normal** | o | o | o | o | - | 0 | ✅Iter.45 |
| **prep1/multiple-regression** | o | o | o | o | o | 0 | ✅Iter.10 |
| **prep1/multiple-comparison** | o | o | o | o | o | 0 | ✅Iter.53 |
| **prep1/multicollinearity** | o | o | o | o | o | 0 | ✅Iter.67 |
| **prep1/monte-carlo** | o | o | o | o | o | 0 | ✅Iter.75 |
| **prep1/moments-shape** | o | o | o | o | - | 0 | ✅Iter.35 |
| **prep1/moment-method** | o | o | o | o | o | 0 | ✅Iter.18 |
| **prep1/model-selection** | o | o | o | o | o | 0 | ✅Iter.64 |
| **prep1/mle** | o | o | o | o | o | 0 | ✅Iter.5 |
| **prep1/missing-data** | o | o | o | o | o | 0 | ✅Iter.74 |
| **prep1/mgf** | o | o | o | o | - | 0 | ✅Iter.39 |
| **prep1/mds-ca** | o | o | o | o | o | 0 | ✅Iter.15 |
| **prep1/mcmc** | o | o | o | o | - | 0 | ✅Iter.27 |
| **prep1/markov-chain** | o | o | o | o | - | 0 | ✅Iter.70 |
| **prep1/logistic** | o | o | o | o | o | 0 | ✅Iter.9 |
| **prep1/log-linear** | o | o | o | o | o | 0 | ✅Iter.23 |
| **prep1/lln** | o | o | o | o | - | 0 | ✅Iter.41 |
| **prep1/lda** | o | o | o | o | o | 0 | ✅Iter.7 |
| **prep1/kmeans** | o | o | o | o | - | 0 | ✅Iter.68 |
| **prep1/joint-distribution** | o | o | o | o | - | 0 | ✅Iter.34 |
| **prep1/interaction** | o | o | o | o | - | 0 | ✅Iter.83 |
| **prep1/goodness-of-fit** | o | o | o | o | o | 0 | ✅Iter.56 |
| **prep1/glm** | o | o | o | o | o | 0 | ✅Iter.12 |
| **prep1/gauss-markov** | o | o | o | o | o | 0 | ✅Iter.33 |
| **prep1/fisher-cramer-rao** | o | o | o | o | o | 0 | ✅Iter.24 |
| **prep1/factor** | o | o | o | o | o | 0 | ✅Iter.76 |
| **prep1/events-probability** | o | o | o | o | - | 0 | ✅Iter.37 |
| **prep1/estimator-properties** | o | o | o | o | o | 0 | ✅Iter.51 |
| **prep1/distributions** | o | o | o | o | o | 0 | ✅Iter.8 |
| **prep1/discrete-distributions** | o | o | o | o | - | 0 | ✅Iter.43 |
| **prep1/delta-method** | o | o | o | o | o | 0 | ✅Iter.65 |
| **prep1/crossval** | o | o | o | o | o | 0 | ✅Iter.26 |
| **prep1/correlation** | o | o | o | o | - | 0 | ✅Iter.59 |
| **prep1/continuous-distributions** | o | o | o | o | - | 0 | ✅Iter.44 |
| **prep1/contingency** | o | o | o | o | o | 0 | ✅Iter.30 |
| **prep1/confidence** | o | o | o | o | o | 0 | ✅Iter.3で深掘り済 |
| **prep1/conditional-bayes** | o | o | o | o | - | 0 | ✅Iter.38 |
| **prep1/clustering** | o | o | o | o | - | 0 | ✅Iter.69 |
| **prep1/clt** | o | o | o | o | o | 0 | ✅Iter.58 |
| **prep1/bootstrap** | o | o | o | o | o | 0 | ✅Iter.17 |
| **prep1/blocking-designs** | o | o | o | o | o | 0 | ✅Iter.85 |
| **prep1/bayes** | o | o | o | o | o | 0 | ✅Iter.11 |
| **prep1/arima** | o | o | o | o | o | 0 | ✅Iter.71 |
| **prep1/anova1** | o | o | o | o | o | 0 | ✅Iter.4で深掘り済 |
| **prep1/acf-pacf** | o | o | o | o | o | 0 | ✅Iter.25 |
| **math/vectors-matrices** | o | o | o | o | - | 0 | ✅Iter.49 |
| **math/matrix-ops** | o | o | o | o | - | 0 | ✅Iter.46 |
| **math/linearization** | o | o | o | o | o | 0 | ✅Iter.31 |
| **math/gradient** | o | o | o | o | - | 0 | ✅Iter.48 |
| **math/eigen** | o | o | o | o | - | 0 | ✅Iter.50 |
| **math/covariance-matrix** | o | o | o | o | - | 0 | ✅Iter.47 |
| **doe/rsm-error** | o | o | o | o | o | 0 | ✅Iter.81 |
| **doe/rsm** | o | o | o | o | o | 0 | ✅Iter.79 |
| **doe/robust** | o | o | o | o | - | 0 | ✅Iter.84 |
| **doe/d-optimal** | o | o | o | o | o | 0 | ✅Iter.80 |
| **doe/ccd** | o | o | o | o | o | 0 | ✅Iter.29 |
| **chemo/pls-da** | o | o | o | o | o | 0 | ✅Iter.20 |
| **chemo/pls** | o | o | o | o | o | 0 | ✅Iter.28 |
| **chemo/opls-da** | o | o | o | o | - | 0 | ✅Iter.86 |
| **prep1/regression** | o | o | o | o | o | 0 | ✅Iter.1で深掘り済 |
| **prep1/causal-inference** | o | o | o | o | o | 0 | ✅Iter.32(新規) |
| **prep1/lack-of-fit** | o | o | o | o | o | 0 | ✅新規(ワークフロー設計) |
| **prep1/variable-selection** | o | o | o | o | o | 0 | ✅新規(ワークフロー設計) |

---

## 2026-07-05 — Iter.1

**対象トピック**: `prep1/regression`（線形回帰と最小二乗法）

**選定理由（依存関係優先）**: 回帰は multiple-regression / multicollinearity / regularization / gauss-markov / overfitting / regression-diagnostics / logistic / glm など約10の下流トピックが前提とする土台。ここを固めると波及効果が最大。初期状態は `odxox`（L3・L5欠落、L2は式のみで導出理由が薄い）。

**埋めた層**
- **L2（強化）**: 「なぜこの式になるか」を追記。二乗和の偏微分→正規方程式 $\sum(y_i-a-bx_i)=0,\ \sum x_i(y_i-a-bx_i)=0$ → 第1式で $a=\bar y-b\bar x$（直線は重心を通る）→ 第2式へ代入で $b=\mathrm{Cov}(x,y)/\mathrm{Var}(x)$。重回帰の $\hat{\boldsymbol\beta}=(X^\top X)^{-1}X^\top\boldsymbol y$ へのリンクも追加。
- **L3（新規）**: 前提条件の表を追加。線形性／誤差の独立性／等分散性／残差の正規性／外れ値・高てこ比 の5前提について「崩れると起きること」「対処・代替」を対にした。要点＝「点推定の不偏性は正規性不要（ガウス・マルコフ）、壊れやすいのは標準誤差＝推論」。
- **L5（新規）**: 有意性 vs 実質的意味を追記。$H_0:b=0$ の有意は「傾き≠0」を言うだけ。標準誤差 $\propto 1/\sqrt n$ ゆえ $n$ 大で無視できる傾きも有意化。$R^2$ 高≠因果。「有意か」でなく「$b$ の大きさ・信頼区間で読む」。
- **L4（微調整）**: 既存 note に、ノイズ（誤差分散 $\sigma^2$）を上げると $\hat b$ の標準誤差が増え有意性が落ちる＝「効果量が同じでも $n\cdot\sigma$ で結論が変わる」視覚化である旨を追記。

**検算結果**
- 正規方程式の導出: $\partial/\partial b:\ \Sigma xy-\bar y\Sigma x=b(\Sigma x^2-\bar x\Sigma x) \Rightarrow b=\Sigma(x-\bar x)(y-\bar y)/\Sigma(x-\bar x)^2=\mathrm{Cov}/\mathrm{Var}$。整合。✅
- $\mathrm{Var}(\hat b)=\sigma^2/\Sigma(x-\bar x)^2$、$\Sigma(x-\bar x)^2\propto n$ ゆえ $\mathrm{SE}(\hat b)\propto 1/\sqrt n$。整合。✅
- レンダリング検証: 追加した2つの h3・前提条件テーブルが表示、KaTeX エラー0、内部リンク5本（multiple-regression, gauss-markov, glm, regression-diagnostics, correlation）すべて実在トピックに解決（デッドリンク0）。

**次に深掘りすべきトピック**
- 連続回避のため次は regression 以外。候補: (1) `prep1/testing`（検定の土台、L3=前提の明示が薄い／`oxxoo`）を先に固めると検定系トピック群に波及。(2) `prep1/confidence`（CI、L3・L5）。(3) 最大gapの `prep1/mds-ca`(4.5) は+α・周辺なので優先度は中。依存関係を踏まえ **testing → confidence → mle** の順を検討。

## 2026-07-05 — Iter.2

**対象トピック**: `prep1/testing`（仮説検定・第1種/第2種の誤りと検出力）

**選定理由（依存関係優先・連続回避）**: 前回の regression と別トピック。testing は neyman-pearson / three-tests / normal-tests / goodness-of-fit / nonparametric / multiple-comparison など検定系トピック群の土台。初期状態 `oxxoo`（L2の形式化とL3が欠落）。

**埋めた層**
- **L2（新規）**: p値の定義 $p=P(T\ge t_{\mathrm{obs}}\mid H_0)$ と棄却域を追記。「棄却域を裾に置く理由＝ $H_0$ のもとで最も起こりにくい領域だから」を明示。両側／片側の割り当ても言及。
- **L3（新規）**: 「帰無分布が正しく求まっていること」が $\alpha$ を保つ前提だと明示。独立性（崩れると $\alpha$ 膨張→混合効果/クラスター頑健）、分布の仮定（正規性・等分散→ノンパラ/並べ替え/ウェルチ、大標本はCLTで緩和）、多重比較（→ボンフェローニ補正）を、崩れた時の影響と代替とセットで記述。頑健性と検出力のトレードオフも追記。
- **L5（強化）**: 「p値は $H_0$ が正しい確率ではない」「有意でない≠差がない（検出力不足）」「$n$ 大で無意味な差も有意化」→効果量と信頼区間で読む、サンプルサイズ設計へ誘導。

**検算結果**
- 右片側 p値の定義 $p=P(T\ge t_{\mathrm{obs}}\mid H_0)$、$p<\alpha$ で棄却——標準的定義と整合。✅
- 前提が崩れると名目 $\alpha$ と実 $\alpha$ が乖離する点、独立性違反で分散過小評価→偽陽性増、多重比較でFWER $=1-(1-\alpha)^m$ 膨張——いずれも整合（<a>multiple-comparison</a>デモと一致）。✅
- レンダリング: 追加h3×2表示、KaTeXエラー0、内部リンク3本（nonparametric, multiple-comparison, sample-size）すべて実在。デッドリンク0。

**次に深掘りすべきトピック**: 連続回避で testing 以外。`prep1/confidence`（信頼区間、L3・L5が薄い `odxox`）→ 検定と対の推論概念で土台。その後 `prep1/mle`・`prep1/distributions` の L3。

## 2026-07-05 — Iter.3

**対象トピック**: `prep1/confidence`（信頼区間の意味）

**選定理由**: 検定(testing)と対になる推論の土台。初期 `odxox`（L3・L5欠落、L2は式のみ）。

**埋めた層**
- **L2（強化）**: ピボット量 $T=(\bar x-\mu)/(s/\sqrt n)\sim t_{n-1}$ から $P(-t_{\alpha/2}\le T\le t_{\alpha/2})=1-\alpha$ を $\mu$ について解いて区間を導出、という「なぜ」を追記。分散既知なら $z$。
- **L3（新規）**: 正規性（崩れると被覆ずれ／大標本はCLTで緩和／小標本+歪みはブートストラップ）、独立性（崩れると SE 過小評価で区間が狭すぎ被覆不足）、外れ値（頑健区間）。区間幅 $\propto s/\sqrt n$、$n$4倍で幅半分・信頼水準↑で幅↑。
- **L5（新規）**: 信頼区間は検定より情報が多く効果量+不確かさを同時に示す。0を含む/含まないは検定と一致するが、実質判断の鍵は「幅」。$p$ の有無でなく区間の位置と幅で読む。

**検算結果**
- 区間導出: $-t\le(\bar x-\mu)/(s/\sqrt n)\le t \Rightarrow \bar x-t\,s/\sqrt n\le\mu\le\bar x+t\,s/\sqrt n$。整合。✅
- 幅 $\propto s/\sqrt n$、$n\times4\Rightarrow$ 幅 $\times1/2$。整合。✅
- レンダリング: h3×2表示、KaTeXエラー0、リンク（bootstrap）実在。デッドリンク0。

**次に深掘りすべきトピック**: `prep1/mle`（最尤推定、L3=正則条件・L5）、`prep1/distributions`（標本分布の前提）、`prep1/anova1`（ANOVAの前提=正規性・等分散・独立、崩れた時とKruskalWallis代替）。ANOVA系は前提の記述価値が高い。

## 2026-07-05 — Iter.4

**対象トピック**: `prep1/anova1`（一元配置分散分析）

**選定理由**: 検定・推定の土台を固めた次に、応用（実験計画法/DoE）の入り口である分散分析の前提を明示。ANOVA前提は準1級頻出かつ DoE 各トピックの前提。初期 `odxox`。

**埋めた層**
- **L2（強化）**: 「なぜ比で検定できるか」＝ $H_0$ 下では $MS_B,MS_W$ とも $\sigma^2$ の不偏推定で $F\approx1$、$H_1$ で $MS_B$ が膨らみ $F>1$。2群では $F=t^2$（$t$検定の一般化）。
- **L3（新規）**: 独立性（無作為化で担保／反復測定は混合効果）、正規性（$F$はやや頑健、小標本+歪みはクラスカル・ウォリス）、等分散性（不釣り合い時に第一種の誤り膨張→ウェルチ、レヴィン検定で事前確認）。有意な $F$ の後は事後検定（テューキー/多重比較）へ、も明示。
- **L5（新規）**: 効果量 $\eta^2=SS_B/SS_T$・$\omega^2$。$n$大で微小差も有意化するため $\eta^2$ と群平均CIを併読。

**検算結果**
- 2群で $F=t^2$：一元配置($k=2$)の $F$ は自由度$(1,N-2)$で $t_{N-2}^2$ に一致。整合。✅
- $\eta^2=SS_B/SS_T$（説明分散割合、0〜1）。整合。✅
- レンダリング: h3×2、KaTeXエラー0、リンク（principles, nonparametric, multiple-comparison）実在。デッドリンク0。

**次に深掘りすべきトピック**: `prep1/mle`（正則条件・不変性・L5）、`prep1/distributions`（標本分布の成立条件）、`prep1/pca`（前提=スケール依存/線形性、標準化の要否、L4接続）。多変量系(pca/lda)はL3・L5が薄く価値高。

## 2026-07-05 — Iter.5-7（推定と多変量の土台）

**Iter.5 `prep1/mle`（最尤推定）** — 初期 `ooxox`
- L3新規: 正則条件下の性質（一致性・漸近正規性・漸近有効性=CRLB達成・不変性）。破綻例=台がθに依存する $U(0,\theta)$ は標本最大値で下ぶれ。小標本の偏り（正規分散のMLEは $1/n$ で下ぶれ）。モデル誤特定に弱い→頑健/準最尤。
- L5新規（点推定だけで終わらせない）: $\mathrm{SE}(\hat\theta)\approx1/\sqrt{nI(\hat\theta)}$、信頼区間・尤度比検定と併読。モデル誤りなら「狭い区間で自信満々に間違える」。
- 検算: $E[X_{(n)}]=n\theta/(n+1)<\theta$（U(0,θ)のMLEは下ぶれ）✅／正規分散MLE $E=\frac{n-1}{n}\sigma^2$ 下ぶれ✅。

**Iter.6 `prep1/pca`（主成分分析）** — 初期 `odxd-`（L5は非該当）
- L2強化: 「なぜ固有ベクトル」= $\max \boldsymbol w^\top\Sigma\boldsymbol w$ s.t. $\|\boldsymbol w\|=1$ → ラグランジュ → $\Sigma\boldsymbol w=\lambda\boldsymbol w$。math/eigen へリンク。
- L3新規: スケール依存（標準化/相関行列）、線形性のみ（カーネルPCA）、外れ値敏感（頑健PCA）、「分散大≠有用」（LDA/PLSと対照）。探索的手法で検定ではない旨。
- 検算: ラグランジュ条件 $\Sigma\boldsymbol w=\lambda\boldsymbol w$、分散=λ ✅。

**Iter.7 `prep1/lda`（線形判別）** — 初期 `odxdx`
- L2強化: $J(\boldsymbol w)$ 最大化 → 一般化固有値問題 $S_B\boldsymbol w=\lambda S_W\boldsymbol w$、2群解 $\boldsymbol w\propto S_W^{-1}(\bar{\boldsymbol x}_1-\bar{\boldsymbol x}_2)$。
- L3新規: 等共分散・多変量正規の前提（成立時はベイズ最適線形分類器）、共分散が違えばQDA、非正規ならロジスティック/SVMが頑健（頑健性↔効率）。
- L5新規: 正解率だけで測らない（不均衡）、ROC/AUC・混同行列・コスト/プライアでしきい値。
- 検算: 2群フィッシャー解 $\boldsymbol w\propto S_W^{-1}(\bar{\boldsymbol x}_1-\bar{\boldsymbol x}_2)$ ✅。

いずれも node --check OK / KaTeXエラー0 / 内部リンク実在（デッドリンク0）。

**次に深掘りすべきトピック**: `prep1/distributions`（標本分布 t/χ²/F の成立条件・自由度→∞でのt→正規）、`prep1/logistic`（前提=線形性オンロジット・独立、分離時の発散、L5）、`prep1/multiple-regression`（既存L2厚い→L3/L5補強）。

## 2026-07-05 — Iter.8（ここでループを一区切り）

**対象**: `prep1/distributions`（確率分布ギャラリー）
- L3新規: t/χ²/F は「元データが正規」から導かれる（$(n-1)s^2/\sigma^2\sim\chi^2_{n-1}$ 等）。正規性が崩れると平均系はCLTで緩和されるが分散系（χ²/F）は敏感。独立性＝自由度の意味。
- L2/L4強化: 極限 $t_k\to N(0,1)$, $\chi^2_k/k\to1$, $F\to1$ を明記し、デモで「自由度↑でtが正規に重なる」確認を明示。
- 検算: $t$ の分散 $k/(k-2)\to1$ (k→∞)、$E[\chi^2_k/k]=1$。✅

**ループ停止（ユーザー指示）**: 8トピック（regression, testing, confidence, anova1, mle, pca, lda, distributions）を5層化した時点で停止。残る候補と優先順は本ログのマトリクス参照（次点: logistic, multiple-regression, bayes, glm, timeseries）。

## 2026-07-06 — 再開: Iter.9-13（回帰の応用と推論の広がり）

前回申し送りの次点5トピックを一括で5層化。いずれも node --check OK / KaTeXエラー0 / 内部リンク実在（デッドリンク0、サンドボックス描画検証済）。

**Iter.9 `prep1/logistic`（ロジスティック回帰）** — 初期 `odxdx`
- L2強化: ロジット $\ln\frac{p}{1-p}=a+bx$（オッズの対数が線形）→係数の意味は $e^b$＝オッズ比。ベルヌーイ尤度→対数尤度 $\ell=\sum[y\ln p+(1-y)\ln(1-p)]$ の最尤推定、閉形式なし→IRLS。GLMの代表例としてリンク。
- L3新規: 前提表（ロジット線形性／独立性／完全分離なし／イベント数EPV≥10）。完全分離でMLE発散（$|\hat b|\to\infty$）→正則化・Firth。デモの「分離度↑で傾きがいくらでも急にできる」との接続を明記。
- L5新規: Wald検定の有意とオッズ比の効果量は別。ROC/AUC・不均衡時の適合率再現率・キャリブレーション。
- 検算: ロジット逆変換・オッズ比 $e^b$／完全分離の尤度単調増加。✅

**Iter.10 `prep1/multiple-regression`（重回帰と計画行列）** — 初期 `odxdx`
- L2強化: 正規方程式 $X^\top X\boldsymbol\beta=X^\top\boldsymbol y$ と「$\hat{\boldsymbol y}$ は列空間への直交射影（残差が全説明変数と直交）」の幾何。単回帰の「重心を通る」の一般化。
- L3新規: 重回帰固有の前提表（フルランク／強い共線性なし／$n\gg p$（$p{+}1{=}n$で完全適合）／欠落変数バイアス）。
- L5新規: 全体F vs 個々のt（「他の変数を入れたうえで」の意味）、共線性で両方非有意になる症状、標準化偏回帰係数、調整済み$R^2$/AIC。
- 検算: 残差直交性 $X^\top(\boldsymbol y-X\hat{\boldsymbol\beta})=0$／$R^2$の単調非減少。✅

**Iter.11 `prep1/bayes`（ベイズ推定）** — 初期 `odxox`
- L2強化: 共役性の「なぜ」（$\theta^{k}(1-\theta)^{n-k}\times\theta^{a-1}(1-\theta)^{b-1}$ が同形）と、事後平均＝事前平均と標本比率の重み付き平均 $\frac{a+k}{a+b+n}=\frac{a+b}{a+b+n}\frac{a}{a+b}+\frac{n}{a+b+n}\frac{k}{n}$。
- L3新規: 事前の感度（小標本）／モデル誤特定は頻度論と同じ弱点（事後予測チェック）／共役は便宜→MCMCへ。
- L5新規: 信用区間 vs 信頼区間の解釈差、$P(\theta>0.5\mid D)$ 型の直接回答、分布の幅ごと報告。
- 検算: 事後 $\mathrm{Beta}(a+k,b+n-k)$・重み付き平均分解の恒等式。✅

**Iter.12 `prep1/glm`（一般化線形モデル）** — 初期 `oxxox`
- L2新規: リンク関数の必然性（$\mu$ の範囲制約と $\eta\in\mathbb R$ の橋渡し）、分散が分布から決まる（二項 $\mu(1-\mu)$・ポアソン $\mu$）＝等分散を仮定しない、逸脱度と尤度比検定。
- L3新規: 前提表（分布指定=過分散→負の二項/準ポアソン／リンク上の線形性／独立性→GLMM/GEE／ゼロ過剰→ZIP）。
- L5新規: 係数はリンク逆変換で読む（対数リンク→率比 $e^\beta$）、過分散無視の「有意」は見かけ。
- 検算: ポアソン $\mathrm{Var}=\mu$・二項分散・入れ子モデルの逸脱度差$\sim\chi^2$。✅

**Iter.13 `prep1/timeseries`（時系列の基礎）** — 初期 `dddox`
- L1/L2強化: 弱定常の3条件を明示。定常条件の導出 $v=\phi^2v+\sigma^2\Rightarrow v=\sigma^2/(1-\phi^2)$（$|\phi|\ge1$で正の解なし＝非定常の正体）、$\rho_k=\phi^k$。
- L3強化: 前提表（定常性→見せかけの回帰・ADF・階差／構造変化／残差の無相関→ACF/PACF診断）。
- L5新規: 実効標本サイズ $n_{\mathrm{eff}}\approx n\frac{1-\phi}{1+\phi}$（$\phi=0.7$で約18%）→独立標本用SEは過小評価。「時系列の有意はまず定常性と残差診断から」。
- 検算: $v=1/(1-0.49)=1.96$（$\phi=0.7,\sigma=1$）・$n_{\mathrm{eff}}/n=0.176$。✅

**次に深掘りすべきトピック**（gap大・依存関係順）: `prep1/mds-ca`(4.5, L1から欠落), `prep1/three-tests`(3.5), `prep1/sufficiency`(3.5), `prep1/bootstrap`(3.5), `prep1/orthogonal`(3.5), `prep1/moment-method`(3.5), `chemo/pls-da`(3.5)。検定論の土台として three-tests（尤度比/ワルド/スコア）を優先推奨。

## 2026-07-06 — Iter.14

**対象トピック**: `prep1/three-tests`（尤度比・ワルド・スコア検定）

**選定理由**: 前回申し送りの優先推奨。gap 3.5（L2=式のみで導出理由なし、L3欠落、L5欠落）。GLM・ロジスティック・比率検定など下流の「係数のz検定はワルド」という文脈の土台になる。

**埋めた層**
- **L2（新規）**: 「なぜどれも $\chi^2_1$ か」＝スコア $U(\theta_0)$ が $H_0$ 下で平均0・分散 $I(\theta_0)$、CLTで正規→標準化2乗が $\chi^2_1$。対数尤度を頂点まわりの放物線で近似すればLR・Waldも同じ量に一致（漸近同値の理由は「曲線が放物線に近づく」の一言）。
- **L3（新規）**: 正則条件（内点・情報量正・モデル正）、境界上の検定は混合分布、小標本は正確検定。3検定のトレードオフ表（必要な当てはめ／長所／弱点）：LR=不変で信頼・計算重、Wald=楽だが再パラメータ化非不変＋ハウク・ドナー現象、Score=帰無のみで計算・検出力やや弱。「迷ったら尤度比」。
- **L5（新規）**: デモ初期値（p₀=0.5, p̂=0.65, n=40）で Wald=3.96 のみ棄却・LR=3.66/Score=3.60 は非棄却——検定選択で結論が割れる実例。効果量と信頼区間で報告。Wald区間は端で壊れる→Wilson区間。
- **L4（強化）**: note に「n小・p̂端で3つの差が開く＝検定選択が結論を変える領域」を追記。

**検算結果**
- p₀=0.5, p̂=0.65, n=40: LR=3.656, Wald=3.956, Score=3.600（χ²(1)5%=3.841）。Waldのみ棄却。デモ実装の式（W=(p̂-p₀)²n/(p̂(1-p̂))、U²/I(p₀)）と一致。✅
- スコアの性質: E[U]=0, Var(U)=I(θ₀)——ベルヌーイで U=k/p₀-(n-k)/(1-p₀), I=n/(p₀(1-p₀))。✅
- レンダリング: h3×2、KaTeXエラー0、内部リンク（fisher-cramer-rao, logistic）実在。デッドリンク0。

**次に深掘りすべきトピック**: `prep1/mds-ca`（最大gap 4.5、L1直感から欠落）、`prep1/sufficiency`（推定論の土台）、`prep1/bootstrap`（計算統計の入口・L5含む）。

## 2026-07-06 — Iter.15

**対象トピック**: `prep1/mds-ca`（多次元尺度法・対応分析・正準相関）

**選定理由**: マトリクス最大gap（4.5）。L1直感（3手法の使い分け）から欠けており、多変量セクションの「PCA以外」の見取り図として先に固める価値が高い。

**埋めた層**
- **L1（新規）**: 「データの形で手法を選ぶ」導入——生の変数行列→PCA／距離だけ→MDS／分割表→CA／変数2群→CCA。目的は同じで入力が違うだけ、という整理。
- **L2（新規）**: MDSの核心恒等式 $d_{ij}^2=\|\boldsymbol x_i\|^2+\|\boldsymbol x_j\|^2-2\boldsymbol x_i^\top\boldsymbol x_j$ →二重中心化で $B=-\frac12JD^2J=XX^\top$（グラム行列）→固有分解×$\sqrt\lambda$ で座標。回転・鏡像不定の原理（内積の回転不変性）。CA＝独立期待値からの乖離 $(p_{ij}-r_ic_j)/\sqrt{r_ic_j}$ のSVD（総慣性$=\chi^2/n$）、CCA＝相関最大 vs PLS＝共分散最大 vs 回帰＝予測、の三つ巴対比。
- **L3（新規）**: 前提表——計量MDSはユークリッド距離（破れると負固有値→非計量MDS）、CAは疎セル・希少カテゴリで不安定、CCAは $n>$ 変数総数（小標本で正準相関→1の過学習、正則化CCA）。3手法とも探索的で検定の枠組みではない。
- **L5（新規）**: 寄与率を見ずに布置図の近さを読まない。CAの行点×列点間距離は直接解釈不可（有名な注意点）。CCAの高相関は過学習の可能性→交差検証。
- **L4（強化）**: note に「真の配置が2次元だから固有値上位2つで完全復元（回転・鏡像を除く）。3次元以上なら歪み＝残りの固有値」を明記し、デモと式 $B=-\frac12JD^2J$ を直結。

**検算結果**
- 二重中心化恒等式: 3点 (0,0),(3,0),(0,4) で $B$ と中心化座標のグラム行列を数値比較、max誤差 1.8e-15。✅
- レンダリング: h3×5、KaTeXエラー0、内部リンク（pca, eigen, contingency, pls, multicollinearity）実在。デモ draw() 実行で例外なし。✅

**次に深掘りすべきトピック**: `prep1/sufficiency`（十分統計量、gap 3.5・推定論の土台）、`prep1/bootstrap`（gap 3.5）、`prep1/moment-method`（gap 3.5）。

## 2026-07-06 — Iter.16

**対象トピック**: `prep1/sufficiency`（十分統計量とネイマンの分解定理）

**選定理由**: gap 3.5・推定論の土台。かつ85トピック中の数少ない「デモなし」トピックで、L4の実体が存在しなかった。

**埋めた層**
- **L2（強化）**: 正規（分散既知）の分解を実演——平方和の分解 $\sum(x_i-\mu)^2=\sum(x_i-\bar x)^2+n(\bar x-\mu)^2$（クロス項消滅）を尤度に代入して $g(\bar x,\mu)\cdot h(\boldsymbol x)$ を明示。「尤度が θ とデータを T を通してしか結びつけない」という分解定理の読み方。ベルヌーイ・ポアソンも $g\cdot h$ の形で提示。
- **L3（新規）**: 十分性はモデル相対的（正規前提が崩れれば保証ごと消える）。モデル内効率 vs モデル外頑健性（中央値・トリム平均）のトレードオフ。十分統計量の非一意性と最小十分統計量。
- **L5（新規・実務での意味）**: 報告書が $(n,\bar x,s^2)$ で済む理由＝結合十分統計量。ただし外れ値・二峰性等「モデル外の情報」は要約で消える——「推論は要約から、診断は生データから」。
- **L4（新規デモ追加）**: 学習目標「十分な要約は尤度曲線を変えない」を直接可視化。要約の仕方（x̄／最初の半分／最初の5個）を切り替えると、全データの尤度曲線（青）と要約からの尤度曲線（橙破線）が x̄ では完全一致、不十分な要約では平らに広がる。仕様: 操作パラメータ=要約方法・n／確認させたい挙動=曲線の一致/拡幅／対応する数式=$L(\mu)\propto e^{-k(\bar x_k-\mu)^2/2}$。

**検算結果**
- 平方和の分解恒等式: n=20 の乱数データ・μ=0.37 で両辺一致（差 0.0）。✅
- デモ実行: summary 3種×境界（n=10, n=100）で例外なし。視覚確認——x̄ で2曲線一致、5個で拡幅を確認（スクリーンショット検証）。✅
- レンダリング: h3×3、KaTeXエラー0、内部リンク（fisher-cramer-rao, mle）実在。✅

**次に深掘りすべきトピック**: `prep1/bootstrap`（gap 3.5・計算統計の入口）、`prep1/moment-method`（gap 3.5）、`prep1/orthogonal`（gap 3.5・DoEの土台）。

## 2026-07-06 — Iter.17

**対象トピック**: `prep1/bootstrap`（ブートストラップ）

**選定理由**: gap 3.5。手順（L1）はあるが「なぜ復元抽出で動くのか」（L2）と破綻条件（L3）が皆無で、手順の暗記で終わる状態だった。計算統計の入口として monte-carlo・mcmc の前に固める。

**埋めた層**
- **L2（新規）**: プラグイン原理——$F$ を経験分布 $\hat F_n$ に差し替え、$\hat F_n$ からの i.i.d. 標本＝復元抽出（非復元では独立標本にならない、という「なぜ復元か」）。グリベンコ・カンテリで $\hat F_n\to F$。$\widehat{\mathrm{SE}}_{\mathrm{boot}}$ の定義式。「公式がある平均では公式を再現する」ことを数値で明示。
- **L3（新規）**: 前提表——i.i.d.（時系列→ブロック・ブートストラップ）、$n$ 小で被覆率低下、滑らかでない統計量（標本最大値で一致性が壊れる有名な反例・端の分位点）、パーセンタイル法の歪み耐性→BCa/スチューデント化のトレードオフ。
- **L5（新規）**: 「$B$ を増やしてもデータの情報は増えない」——$B$ はモンテカルロ誤差のみ、幅を決めるのは $n$。95%被覆も近似であって保証でない。
- **L4（強化）**: note に「元データは右歪み対数正規→90パーセンタイルに切り替えるとブート分布がギザギザ・非対称＝表の『端の分位点は不安定』の実物」を追記し、既存デモの操作と L3 を直結。

**検算結果**
- 平均のブートストラップSE: $n{=}40, B{=}20000$ で 2.1450 vs 理論値 $\sqrt{(n-1)/n}\,s/\sqrt n=2.1464$。一致（差はモンテカルロ誤差）。✅
- レンダリング: h3×4、KaTeXエラー0、内部リンク（clt, timeseries, monte-carlo）実在。デモ3統計量×境界（n=10）で例外なし。✅

**次に深掘りすべきトピック**: `prep1/moment-method`（gap 3.5・推定論）、`prep1/orthogonal`（gap 3.5・DoE直交表の土台）、`chemo/pls-da`（gap 3.5）。

## 2026-07-06 — Iter.18

**対象トピック**: `prep1/moment-method`（モーメント法）

**選定理由**: gap 3.5。ガンマの例（L2）はあったが「なぜ等式で置いてよいか」の根拠・破綻条件・デモが皆無。推定論3手法（MLE/MoM/OLS）の使い分けは準1級頻出。

**埋めた層**
- **L2（強化）**: 正当化の根拠＝大数の法則（標本モーメント→理論モーメント）＋連続写像定理で解も収束→<strong>一致推定量</strong>。保証はそこまでで不偏性・有効性はない、と明示。
- **L3（新規）**: 前提表——モーメントの存在（コーシーは平均なし→分位点ベース/MLE）、定義域外の解、効率の損（MoM→MLE初期値の定石）、モーメント選択の非一意性（高次は外れ値に敏感）。MLE/MoM/OLSの「仮定の強さ vs 効率」トレードオフ整理。
- **L5（新規）**: 小標本バイアスの定量提示——ガンマ(k=2)で n=15 の E[k̂]≈2.44（+22%）、n=200 で 2.03。一致性はあるが不偏でない、の実物。SE（デルタ法/ブートストラップ）併記の作法。
- **L4（新規デモ追加）**: k̂=x̄²/s² の標本分布ヒストグラム。操作=真のk（1〜6整数）・n（10〜200）／確認させたい挙動=n小で山が右ずれ（バイアス表示付き）・n大で真値に集中／対応する数式=k̂=x̄²/s²。ガンマ乱数は整数kのアーラン（指数和）で生成。

**検算結果**
- Python独立実装: n=15→E[k̂]≈2.437, n=50→2.132, n=200→2.031（真値2）。デモ表示（n=20でバイアス+0.34、n=200で+0.03）と整合。✅
- レンダリング: h3×3、KaTeXエラー0、内部リンク（lln, mle, bootstrap）実在。デモ境界（k=1,n=10 / k=6,n=200）で例外なし。視覚確認済み。✅

**次に深掘りすべきトピック**: `prep1/orthogonal`（gap 3.5・直交表はDoEの土台）、`chemo/pls-da`（gap 3.5）、`prep1/regularization`（gap 3.0・回帰系の残り）。

## 2026-07-06 — Iter.19

**対象トピック**: `prep1/orthogonal`（直交表による効率的な実験）

**選定理由**: gap 3.5。DoE群（rsm/ccd/d-optimal/robust）の土台で、ユーザーの品質管理・分析化学の関心領域とも直結。「なぜ直交だと分離できるか」が未説明だった。

**埋めた層**
- **L2（新規）**: ±1コード化で「組み合わせ均等＝列の内積0」。効果推定は回帰の最小二乗と同値で、直交なら $X^\top X$ が対角→係数が無相関に独立推定——「水準2平均−水準1平均」が最小二乗解に一致する理由。全因子同精度 $\mathrm{SE}(\hat\alpha)=2\sigma/\sqrt n$（$L_8$ で $\sigma/\sqrt2$）。
- **L3（新規）**: 前提表——交互作用なしの仮定（7因子詰め込みで主効果×交互作用の交絡＝「回数の節約は交互作用なしの仮定で買う等価交換」）、2水準の線形性（曲率検出不能→中心点/L9/RSM）、ランダム化・ブロック化、誤差自由度の確保。デモの3因子×8回は $2^3$ 総当たりと同型で交絡なし、という正確な位置づけも明記。
- **L5（新規）**: $\mathrm{SE}=0.71\sigma$ →ノイズ同程度の効果は8回では偶然と区別不能。デモでノイズ4→真の効果0の因子Bに±3の棒（偽発見の実物）。確認実験の定石・工程要求精度との比較。
- **L4（強化）**: note に「因子Bの見かけの棒＝SE式の実感」を追記し、既存デモの操作とL2の式を直結。

**検算結果**
- 直交性: デモの3列の内積 A·B=A·C=B·C=0。✅
- 交絡なしの確認: A×B交互作用列 [+,+,-,-,-,-,+,+] は C列と不一致かつ内積0（＝2³総当たりと同型）。✅
- SE(効果) = σ√(1/4+1/4) = σ/√2 ≈ 0.707σ。✅
- レンダリング: h3×2、KaTeXエラー0、内部リンク（multiple-regression, rsm, principles）実在。デモ境界（全効果0・ノイズ0／効果±8・ノイズ4）で例外なし。✅

**次に深掘りすべきトピック**: `chemo/pls-da`（gap 3.5・ケモメトリクス）、`prep1/regularization`（gap 3.0）、`prep1/stochastic-process`（gap 3.0）。

## 2026-07-05 — Iter.20

**対象トピック**: `chemo/pls-da`（PLS-DA・判別のためのPLS）

**選定理由**: マトリクス最大gap（3.5）。L1直感とデモ（L4）はあったが「PLS-DAが具体的に何を計算しているか」（L2）・破綻条件（L3）・「分離＝有意ではない」（L5）が皆無で、スコアプロットを眺めるだけで終わる状態だった。ユーザーの分析化学・品質管理の関心領域に直結。

**埋めた層**
- **L2（新規）**: PLS-DA＝ダミー $y\in\{+1,-1\}$ のPLS回帰であることを明示し、第1成分の重みが $\boldsymbol{w}_1\propto X^\top\boldsymbol{y}=\tfrac{n}{2}(\bar{\boldsymbol{x}}_A-\bar{\boldsymbol{x}}_B)$＝<strong>クラス平均差そのもの</strong>になる導出を追加。LDAとの対比（LDAは $S_W^{-1}$ で白色化するが $p>n$ で特異→PLS-DAは逆行列不要で高次元でも動く、がケモメトリクスでの採用理由）。
- **L3（新規）**: 前提表——スケール（オートスケーリング）／$p\gg n$の過学習／クラス不均衡／交絡（→OPLS-DA）／線形分離の5前提。
- **L5（新規）**: $R^2Y$ は常に1近く上がり証拠にならない。並べ替え検定＋交差検証 $Q^2$ で有意性を測る。でたらめラベルでも標本内100%・LOO-CV約0.5に崩壊、というギャップが過学習の実物。報告は $Q^2$・CV混同行列・並べ替え$p$値・効果量。
- **L4（既存デモ活用）**: 分離度/交絡/ノイズのスライダはそのまま。本文L3の交絡→OPLS-DA、L5の「分離≠有意」と直結させた。

**検算結果（python3 独立実装）**
- 第1PLS重みとクラス平均差の一致: $\cos(\boldsymbol{w}_1,\bar{\boldsymbol{x}}_A-\bar{\boldsymbol{x}}_B)=1.000000$、$X^\top\boldsymbol{y}=(n/2)(\bar{\boldsymbol{x}}_A-\bar{\boldsymbol{x}}_B)$ を `np.allclose` で厳密確認。✅
- 過学習: $n{=}20,p{=}200$・ランダムラベルで2成分PLS-DAの標本内正解率＝1.000（200通りのランダムラベル全てで1.000、min 1.000）。✅
- CVで崩壊: 同データのLOO-CV正解率＝0.45（≈偶然0.5）。標本内100%とのギャップ＝過学習量。✅
- レンダリング: h3×3追加（潜在成分/前提条件/有意性）、KaTeXエラー0、内部リンク（pls, lda, crossval, opls-da）実在。verify-topics.js パス（85/85）。✅

**次に深掘りすべきトピック**: `prep1/regularization`（gap 3.0・回帰系の残り）、`prep1/stochastic-process`（gap 3.0）、`prep1/log-linear`（gap 3.0）。

## 2026-07-05 — Iter.21

**対象トピック**: `prep1/regularization`（正則化・リッジ回帰・Lasso）

**選定理由**: gap 3.0・回帰系の残り。L1直感とデモ（L4=直交近似の係数パス）はあったが、L2が「式の提示のみ」で〈なぜ縮むのか／なぜLassoだけ0になるのか〉が未説明、L3前提とL5がまるごと欠落。回帰の下流（overfitting/multicollinearity/model-selection）の締めに当たる。

**埋めた層**
- **L2（強化）**: リッジ閉形式 $\hat\beta=(X^\top X+\lambda I)^{-1}X^\top y$ を導出し、$\lambda I$ が特異な $X^\top X$（共線性・$p>n$）を正則化する＝共線性に強い理由を明示。直交ケースで リッジ$=\hat\beta_{LS}/(1+\lambda/n)$（比例縮小・0にならない）、Lasso$=$軟しきい値（一定量引いて0で止める＝スパース化）。L1ダイヤの角 vs L2の円、の幾何的説明も追加。
- **L3（新規）**: 前提表——標準化必須（罰則のスケール依存）／$\lambda$はCV／Lassoは相関変数群から1本を気まぐれ選択で不安定（→Elastic Net）／$p>n$では最大$n$個しか選べない／リッジは変数を落とさない。
- **L5（新規）**: 縮小係数は不偏でない＝効果量として過小。Lasso選択後の通常t検定は誤り（選択後推論）。正則化は予測・スクリーニングの道具で有意性検定の代替ではない。ベイズ事前（リッジ=正規、Lasso=ラプラス）解釈も付記。
- **L4（既存デモ活用）**: 直交近似の係数パスデモの縮小則が、追加したL2の直交ケース公式そのものであることを本文と接続。

**検算結果（python3 独立実装）**
- 直交計画（$X^\top X=nI$）でリッジ閉形式 $=\hat\beta_{LS}/(1+\lambda/n)$: 両者一致（例 [1.2498,-0.8998,0.5997,...]）。✅
- Lasso座標降下 = 軟しきい値 $\mathrm{sign}\cdot\max(0,|\hat\beta_{LS}|-\lambda/2n)$: 一致（3.0→2.75, -1.0→-0.75, 微小係数→0）。✅
- 共線性の安定化: 条件数 $\mathrm{cond}(X^\top X)\approx3.9\times10^6 \to \mathrm{cond}(X^\top X+0.5I)\approx180$。✅
- バイアス・分散: $\beta$ のMSEを$\lambda$走査で 2.12($\lambda{=}0$)→0.80($\lambda{=}20$)→0.94($\lambda{=}50$)、最小は $\lambda>0$。✅
- レンダリング: h3×3追加、KaTeXエラー0、内部リンク（multicollinearity, crossval, bayes）実在。verify-topics.js パス（85/85）。✅

**次に深掘りすべきトピック**: `prep1/stochastic-process`（gap 3.0）、`prep1/log-linear`（gap 3.0）、`prep1/fisher-cramer-rao`（gap 3.0）。

## 2026-07-05 — Iter.22

**対象トピック**: `prep1/stochastic-process`（ランダムウォーク・ポアソン過程・ブラウン運動）

**選定理由**: gap 3.0。L1直感とデモ（L4=3過程のサンプルパス）は良好だが、L2は「式の列挙のみ」で〈なぜその式か〉が皆無、L3前提とL5がまるごと欠落。確率過程はマルコフ連鎖・モンテカルロ・ARIMAの土台。

**埋めた層**
- **L2（新規）**: 3つの導出を追加。①RWの $V[S_n]=n$ は独立ゆえ分散が足せることから＝$\sqrt t$則の正体。②ポアソン過程は微小区間の二項→ポアソン極限で $N(t)\sim\mathrm{Po}(\lambda t)$、無事象確率 $e^{-\lambda s}$ から到着間隔 $\mathrm{Exp}(\lambda)$。③RW→BMは歩幅$\pm\sqrt{\Delta t}$で分散$n\Delta t=t$、CLTで $W_t\sim N(0,t)$＝$\sqrt t$則はCLTの言い換え。
- **L3（新規）**: 前提表——独立増分（→ARIMA/fBM）／定常・強度一定（→非斉次ポアソン）／まれ独立＝過分散（→Cox・Hawkes・負の二項）／ドリフトなし（→幾何BM）／滑らかさ（→伊藤積分）。
- **L5（新規）**: 推定と実質的意味。$\hat\lambda=N/T$（MLE）・$V[\hat\lambda]=\lambda/T$＝観測時間で精度が決まる。本質は予測の限界——RW/BMは分散が$t$比例で増え長期予測は青天井（VaRの$\sqrt t$則）。単位根検定→ARIMAへ誘導。
- **L4（既存デモ活用）**: ±√t帯のデモが追加L2の$\sqrt t$則そのものであることを接続。

**検算結果（python3 モンテカルロ）**
- RW: $V[S_n]/n=1.0018$（理論1）、$S_n/\sqrt n$の分散1.0018→$N(0,1)$。✅
- ポアソン: $N(T)$ 平均19.99・分散19.95 ≈ $\lambda T{=}20$（平均=分散）、到着間隔平均0.3998 ≈ $1/\lambda{=}0.4$。✅
- BM: $V[W_t]=4.983$ ≈ $t{=}5$。✅
- MLE $\hat\lambda=N/T$: 平均2.5016 ≈ $\lambda$、分散0.31025 ≈ $\lambda/T{=}0.3125$。✅
- レンダリング: h3×3追加、KaTeXエラー0、内部リンク（distributions, clt, arima, discrete-distributions, mle）実在。verify-topics.js パス（85/85）。✅

**次に深掘りすべきトピック**: `prep1/log-linear`（gap 3.0・L4欠落）、`prep1/fisher-cramer-rao`（gap 3.0）、`prep1/acf-pacf`（gap 3.0）。

## 2026-07-05 — Iter.23

**対象トピック**: `prep1/log-linear`（対数線形モデル・条件つき独立性）

**選定理由**: gap 3.0。L4がまるごと欠落（デモなし）、L2は式のみで〈なぜ対数か〉未説明、L3が部分的・L5欠落。分割表群（contingency/odds-ratio）の締めで、ロジスティック回帰・GLMとも接続する要所。

**埋めた層**
- **L2（強化）**: なぜ対数か＝①セル度数はポアソン→GLMの対数リンク、②独立時 $m_{ij}=n p_i q_j$（積）が対数で $\mu+\lambda^A_i+\lambda^B_j$（和）に分解し交互作用が消える。$\lambda^{AB}\ne0$＝積で書けない＝独立からのズレ。2×2で $\log(\text{オッズ比})=4\lambda_{11}^{AB}$（交互作用=関連=対数オッズ比の一致）。
- **L3（強化）**: 前提表——独立ポアソン計数（過分散→準ポアソン/負の二項）／期待度数大（疎な表→フィッシャー正確検定）／階層モデル（下位項を含む）／第3変数の交絡（シンプソン→3元表）。
- **L5（新規）**: $G^2=2\sum O\log(O/E)$ は関連が同じなら $n$ に比例。$\psi{=}0.5$ は $n{=}100$ で非有意→$n{=}200$ で有意化、$\psi{=}1.0$ は6.1/12.1。独立棄却だけでなくオッズ比・$\lambda^{AB}$ の大きさで実質を読む。
- **L4（新規デモ追加）**: 2×2対数線形モデルのバーチャート。操作=ψ（対数オッズ比）・n／確認=対角セルの期待度数が独立の一律n/4（灰）から離れる・ψ=0で一致・nで $G^2$ が比例増→独立棄却／対応数式=$G^2=2\sum O\log(O/E)$、セル確率 $a=\tfrac12\tfrac{\sqrt\theta}{1+\sqrt\theta}$。

**検算結果（python3 独立実装）**
- $\log(\text{オッズ比})=\psi$ の一致（$\psi{=}0.5,1.0,1.5$ でtarget一致）、独立$\psi{=}0$で全セル0.25、$\lambda^{AB}=\psi/4=0.25$。✅
- 逸脱度 $G^2$: $\psi{=}0.5$ で $n{=}100{\to}1.55,\ n{=}200{\to}3.10$（<3.84 非有意）、$\psi{=}1.0$ で $6.06/12.12$（>3.84 有意）。デモ実装（$s=e^{\psi/2}$）と一致。✅
- 境界確認: $\psi\in[-2,2],n\in[40,400]$ でセル確率>0・$G^2$ 有限・ゼロ除算なし。KaTeXエラー0、内部リンク（distributions, glm, odds-ratio, discrete-distributions, contingency）実在。verify-topics.js パス（85/85）。✅

**次に深掘りすべきトピック**: `prep1/fisher-cramer-rao`（gap 3.0・推定論の効率下限）、`prep1/acf-pacf`（gap 3.0・時系列）、`prep1/crossval`（gap 3.0・計算統計）。

## 2026-07-05 — Iter.24

**対象トピック**: `prep1/fisher-cramer-rao`（フィッシャー情報量とクラーメル・ラオの下限）

**選定理由**: gap 3.0・推定論の効率下限。L2は2つの $I(\theta)$ 式と不等式を「提示のみ」で導出理由がなく、L3正則条件・L5がまるごと欠落。MLE/sufficiency/estimator-properties と結ぶ推定論の要。

**埋めた層**
- **L2（強化）**: 2形が一致する理由＝スコア $U$ の $E[U]=0$（$\int f=1$ の微分）をもう一度微分して $E[U^2]=-E[\partial^2\log f]$。$n$標本で総スコアが和→分散加算で $I_n=nI$。CRLBの導出＝不偏の微分で $\mathrm{Cov}(\hat\theta,U)=1$、コーシー・シュワルツで $V[\hat\theta]\ge1/(nI)$、等号は指数型分布族。
- **L3（新規）**: 正則条件の表——台が$\theta$非依存（$U(0,\theta)$で破れMLEが下限を下回る）／微分積分交換／不偏（偏りで$(1+b')^2$、縮小推定量は下限未満のMSE）／単一母数（多母数は情報行列の逆）。
- **L5（新規）**: 下限＝精度の床→標本設計 $n\ge1/[I\cdot\mathrm{SE}^2]$、ベルヌーイは$p=0.5$最悪ケース。漸近正規→ワルドCI $\hat\theta\pm z/\sqrt{nI}$。効率=下限/実分散、50%効率は2倍のデータ。
- **L4（既存デモ活用）**: ベルヌーイ対数尤度・$nI(p)=n/[p(1-p)]$・CRLB $p(1-p)/n$ のデモが追加L2/L5そのものであることを接続。

**検算結果（python3 独立実装）**
- 2形の一致（ベルヌーイ $p{=}0.3$）: $E[U]=0$、$E[U^2]=-E[\partial^2]=1/(p(1-p))=4.7619$。✅
- 下限達成: ベルヌーイ $n{=}50$ で $V[\hat p]=0.00421$ ≈ CRLB $0.00420$、ポアソン $n{=}40$ で $0.0748$ ≈ $0.075$。✅
- 反例: $U(0,\theta)$ のMLE（不偏化）分散 $\approx\theta^2/[n(n+2)]=0.00227$ ≪ 素朴CRLB $\theta^2/n=0.05$＝正則条件破れ。✅
- レンダリング: h3×3追加、KaTeXエラー0、内部リンク（confidence）実在。verify-topics.js パス（85/85）。✅

**次に深掘りすべきトピック**: `prep1/acf-pacf`（gap 3.0・時系列の同定）、`prep1/crossval`（gap 3.0・計算統計）、`prep1/mcmc`（gap 3.0・L1から欠落）。

## 2026-07-05 — Iter.25

**対象トピック**: `prep1/acf-pacf`（自己相関・偏自己相関／コレログラム）

**選定理由**: gap 3.0・時系列モデル同定の中核。L2はACF式のみでPACFの定義・なぜ切れる/減衰するかが未説明、L3前提とL5欠落、L4デモはACFのみでPACFを描いていなかった（本文の表と不整合）。ARIMAの前提トピック。

**埋めた層**
- **L2（強化）**: PACF $\phi_{kk}$ の定義（$y_t$ を $k$ ラグまで回帰した最古ラグの係数）→ AR($p$) はラグ $p$ で切れる理由、ユール・ウォーカー/レビンソン・ダービン。AR(1) の $\rho_k=\phi\rho_{k-1}\Rightarrow\rho_k=\phi^k$ の漸化式導出。MA($q$) は裏返し（ACF切断・PACF減衰）。
- **L3（新規）**: 前提表——定常性（非定常だとACFが減衰せず次数不読→階差/ADF）／季節性（周期スパイク→SARIMA）／系列長（短いと帯超えの偽スパイク増）／外れ値・構造変化。
- **L5（新規）**: 青帯 $\pm1.96/\sqrt n$ はホワイトノイズ帰無の95%目安。多重比較（20ラグなら偶然約1本が帯超え）。リュング・ボックス検定・AIC併用。
- **L4（デモ強化）**: 「表示」セレクトで ACF/PACF 切替を追加。PACF はレビンソン・ダービン漸化式でACFから算出。AR(1) で PACF がラグ1のみ立ち以降0＝本文の表を実証。理論オーバーレイも ACF=$\phi^k$／PACF=（ラグ1のみφ）で切替。

**検算結果（python3 + node独立実装）**
- AR(1) φ=0.7: 標本ACF [0.711,0.51,0.368]≈理論$\phi^k$[0.7,0.49,0.343]、PACF [0.711,0.008,0.004,…]＝ラグ1で切断。✅
- AR(2) φ=(0.5,0.3): PACF [0.727,0.307,0.022,…]＝ラグ2で切断。✅
- デモのDurbin-Levinson（JS）を理論AR(1) ACFで単体検証: PACF=[1,0.70,0,0,…]。✅
- 帯 $\pm1.96/\sqrt{240}=0.127$、ホワイトノイズで4.3%のラグが帯超え（≈5%）。✅
- 検証: node --check・verify-topics.js パス（85/85）。ブラウザでACF/PACF両状態を描画確認（JSエラー0、PACFがラグ1で切れる図を確認）。内部リンク（arima）実在。✅

**次に深掘りすべきトピック**: `prep1/crossval`（gap 3.0・計算統計）、`prep1/mcmc`（gap 3.0・L1から欠落）、`chemo/pls`（gap 3.0・L5欠落・分析化学）。

## 2026-07-05 — Iter.26

**対象トピック**: `prep1/crossval`（交差検証とモデル選択）

**選定理由**: gap 3.0・計算統計の要。手順（L1）とU字デモ（L4）は良好だが、L2「何を推定しているか」・L3リーク等の前提・L5がまるごと欠落。regularization/overfitting/model-selection から参照される土台。

**埋めた層**
- **L2（新規）**: 汎化誤差 $\mathrm{Err}=E[L(y,\hat f(x))]$ の推定量として $\mathrm{CV}=\frac1n\sum L(y_i,\hat f_{-\kappa(i)}(x_i))$ を定式化（各点を「見ていないモデル」で予測→楽観バイアスなし）。LOOCV=$k{=}n$。$k$ の選択＝バイアス/分散/計算量トレードオフ（小k悲観、LOOほぼ不偏だが重い、$k{=}5,10$定番）。AIC/BICへリンク。
- **L3（新規）**: 前提表——前処理をfold内で（リーク回避）／iid（時系列→前向きCol、群→GroupKFold）／層化（不均衡）／選択と評価の分離（nested CV）。
- **L5（新規）**: CV誤差自体がばらつく→谷を1点で信じない。1-SEルール（最良から1SE以内で最単純）。選択したモデルのCV値は楽観バイアス→入れ子CV/別テストで最終評価。
- **L4（note強化）**: 「再サンプルで谷が揺れる＝CV誤差のばらつき＝1-SEルールの動機」をnoteに追記し既存デモとL5を接続。

**検算結果（python3 モンテカルロ）**
- 5分割CVが真テスト誤差を追跡: deg1..7 で CV [1.54,1.56,0.42,0.45,0.61,0.63,2.07] vs 真 [1.52,1.46,0.40,0.44,0.45,0.55,0.65]、両者とも真の次数3で最小。✅
- $k$のバイアス: $k{=}2$ 誤差平均0.418（悲観）、$k{=}5$ 0.387、$k{=}10$ 0.379、LOO 0.376（ほぼ不偏）。✅
- LOOの分散はこの設定では必ずしも大きくない（k=5 sd0.112 vs LOO sd0.097）ことも確認し、本文は「LOOは不偏だが高コスト・fold相関」と正確に記述（過度なLOO高分散主張を回避）。✅
- 検証: node --check・verify-topics.js パス（85/85）。内部リンク（model-selection）実在。✅

**次に深掘りすべきトピック**: `prep1/mcmc`（gap 3.0・L1直感から欠落）、`chemo/pls`（gap 3.0・L5欠落・分析化学）、`doe/ccd`（gap 3.0・実験計画）。

## 2026-07-05 — Iter.27

**対象トピック**: `prep1/mcmc`（MCMC・メトロポリス法・ギブスサンプリング）

**選定理由**: gap 3.0。L1直感が薄く（マルコフ連鎖を使う「なぜ」が弱い）、L2「なぜ目標分布に収束するか」・L3収束/混合の前提が欠落。L5は非該当（計算法）。ベイズ・モンテカルロと接続する計算統計の山場。

**埋めた層**
- **L1（強化）**: 核心＝「各点にその確率に比例した時間だけ滞在するよう歩く」「比だけで歩けるので正規化定数（分母）不要」を明示。
- **L2（新規）**: 詳細釣り合い $p(\theta)T(\theta\to\theta')=p(\theta')T(\theta'\to\theta)$ → $p$ が定常分布になる導出。対称提案でメトロポリス採択 $\alpha=\min(1,p'/p)$ がこれを満たすことを場合分けで示し、正規化定数が消える理由を明確化。ギブス＝採択率1の特別な場合。
- **L3（新規）**: 前提表——エルゴード性／バーンイン／自己相関（有効標本数ESS）／多峰での閉じこもり／歩幅調整（採択率20-50%）。$\hat R$・トレースプロットの収束診断も付記。
- **L4（note強化）**: 歩幅大＝拒否だらけ／小＝片方の山に閉じこもる、を採択率目安と共に既存デモに接続。

**検算結果（python3 独立実装）**
- 詳細釣り合い（2山混合・対称提案）: $p(a)\alpha(a\to b)=p(b)\alpha(b\to a)=0.0779$。✅
- 混合: 歩幅1.2で採択率0.65・左山質量0.60（目標0.6と一致）。歩幅0.15は採択率0.94だが3000歩でも左山質量1.00＝隣の山へ渡れず閉じこもり。歩幅4.0は採択率0.41。✅
- 自己相関: 歩幅1.2で lag-1 autocorr 0.94（連続標本は強相関＝iidでない、ESS≪n）。✅
- 検証: node --check・verify-topics.js パス（85/85）。内部リンク（bayes）実在。✅

**次に深掘りすべきトピック**: `chemo/pls`（gap 3.0・L5欠落・分析化学）、`doe/ccd`（gap 3.0・中心複合計画）、`prep1/contingency`（gap 3.0・L1から）。

## 2026-07-05 — Iter.28

**対象トピック**: `chemo/pls`（PLS回帰・部分最小二乗回帰）

**選定理由**: gap 3.0・分析化学（ユーザー関心領域）。L1直感と予測散布デモ（L4）はあったが、L2はNIPALSの中身・PCRとの違いが未説明、L3前提とL5（R² vs Q²）が欠落。PLS-DA/OPLS-DAの土台。

**埋めた層**
- **L2（新規）**: NIPALS——第1重み $w_1\propto X^\top y$（共分散最大方向）→スコア→デフレーション→反復、最終係数 $\hat\beta=W(P^\top W)^{-1}q$。PCRとの違い（PCRは$y$を見ず分散最大方向を拾う→無関係方向を先取り、PLSは共分散で少成分）。
- **L3（新規）**: 前提表——中心化/標準化（スケール独占）／成分数はCV（$p\gg n$過学習）／低ランク線形（非線形→カーネルPLS）／校正範囲内（外挿→$T^2$・$Q$残差）。
- **L5（新規）**: 校正$R^2$は成分数で単調増→証拠にならない。$Q^2$/RMSECVで判断（真次元でピーク）、$R^2-Q^2$乖離＝過学習。VIP・独立試料RMSEP。
- **L4（既存デモ活用）**: 成分数を増やすと当てはまり上昇だが真の2成分超で汎化悪化、をL5の$Q^2$と接続。

**検算結果（python3 独立実装）**
- 第1PLS重み ∝ $X^\top y$: cos=1.000000。✅
- $R^2$校正 vs $Q^2$(LOO): 成分数1→10で $R^2$ 0.951→0.977→0.989→0.992→0.993（単調増）、$Q^2$ 0.938→0.972→0.976→0.973→0.969（$A{=}2{\sim}3$でピーク→減）。真の潜在次元2と整合。✅
- 検証: node --check・verify-topics.js パス（85/85）。内部リンク（pca, overfitting, crossval, multiple-regression, multicollinearity）実在。✅

**次に深掘りすべきトピック**: `doe/ccd`（gap 3.0・中心複合計画）、`prep1/contingency`（gap 3.0・L1から）、`math/linearization`（gap 3.5・数学基礎）。

## 2026-07-05 — Iter.29

**対象トピック**: `doe/ccd`（中心複合計画と回転可能性）

**選定理由**: gap 3.0・実験計画（ユーザー関心）。L1直感と配置デモ（L4）は良好だが、L2「2次モデル・なぜ3水準・αの意味」・L3前提・L5（ロックオブフィット）が欠落。RSM群の土台。

**埋めた層**
- **L2（新規）**: 2次モデル $\hat y=\beta_0+\sum\beta_ix_i+\sum\beta_{ii}x_i^2+\sum\beta_{ij}x_ix_j$、2乗項推定に3水準必要→軸点・中心点の存在理由。回転可能性の中身＝半径一定で予測分散一定（数値: α=√2で円周上0.281一定、α=1で0.31〜0.50）。総回数 $2^k+2k+n_c$。
- **L3（新規）**: 前提表——2次近似の妥当性／箱型領域（制約→D最適）／中心点反復（純誤差）／$\pm\alpha$の設定可否（→面心CCD）。
- **L5（新規）**: 中心点反復→純誤差→ロックオブフィット検定。2乗項有意＝内部に最適点。統計的曲率≠実質的重要（反復増で微小曲率も有意）。回転可能性は設計性質で結果保証ではない。
- **L4（既存デモ活用）**: αで配置が変わる・面心との違いをL2の回転可能性と接続。

**検算結果（python3 独立実装）**
- 回転可能α=$(2^k)^{1/4}$: k=2→1.414, k=3→1.682, k=4→2.000。回数 $2^k+2k+4$: 12/18/28。✅
- 回転可能性: 2次設計行列でα=√2は半径1円周上の予測分散が全点0.2812（spread 0）、α=1は0.3125〜0.5000（spread 0.1875）＝向きで精度変動。✅
- 検証: node --check・verify-topics.js パス（85/85）。内部リンク（multiple-regression, d-optimal）実在。✅

**次に深掘りすべきトピック**: `prep1/contingency`（gap 3.0・L1から薄い）、`math/linearization`（gap 3.5・数学基礎）、`math/gradient`（gap 3.0）。

## 2026-07-05 — Iter.30

**対象トピック**: `prep1/contingency`（分割表とカイ二乗独立性検定）

**選定理由**: gap 3.0・検定系。各層が部分的（`ddddx`）で、期待度数と自由度の「なぜ」・前提・効果量が欠けていた。2級/準1級頻出。

**埋めた層**
- **L2（強化）**: $E_{ij}=$行×列/N の導出（独立＝同時確率が周辺の積 $P(i,j)=P(i)P(j)$ を推定して$N$倍）。$(O-E)/\sqrt E$ の二乗和が近似χ²になる理由。自由度 $(r-1)(c-1)=rc-1-(r-1)-(c-1)$ の内訳。
- **L3（新規）**: 前提表——期待度数≥5（疎→フィッシャー/併合）／観測の独立（対応→マクネマー・CMH）／2×2連続修正（イェーツ）／交絡（シンプソン→層別・対数線形）。
- **L5（新規）**: χ²はNに比例（度数3倍でχ²3倍・有意化）＝有意≠強い。効果量 $\phi=\sqrt{\chi^2/N}$（$\chi^2=N\phi^2$）・オッズ比・クラメール $V=\sqrt{\chi^2/(N\min(r-1,c-1))}$。度数3倍でもV不変。
- **L1/L4（温存）**: 既存の直感とデモ（観測vs期待の棒）は妥当なので保持。

**検算結果（python3 独立実装）**
- $E_{ij}=$行×列/N、χ²=9.333、df=(2-1)(3-1)=2。✅
- クラメールV=√(χ²/(N·1))=0.258。度数3倍→χ²=28.0(=9.33×3)だがV=0.258不変。✅
- 2×2: χ²=16.667=N·φ²（φ=0.408, N=100）、オッズ比6.0。✅
- 小度数2×2（最小期待2.62<5）フィッシャー両側p=0.035＝χ²近似不可の実例。✅
- 検証: node --check・verify-topics.js パス（85/85）。内部リンク（log-linear）実在。✅

**次に深掘りすべきトピック**: `math/linearization`（gap 3.5・数学基礎で最大gap）、`math/gradient`（gap 3.0）、`prep1/odds-ratio`（gap 2.5・contingencyと対）。

（注: Iter.27 MCMC は並行セッションが処理済み。マトリクスで完了を確認してから選ぶこと）

## 2026-07-05 — Iter.31

**対象トピック**: `math/linearization`（変数変換と線形化）

**選定理由**: gap 3.5・数学基礎で最大gap。指数/アレニウスの例（L2部分）とデモ（L4）はあったが、線形化できる一般則・「誤差構造が変わる」核心（L3/L5）が欠落。回帰の前処理として重要。

**埋めた層**
- **L2（強化）**: 線形化できる形（べき則→両対数、ミカエリス・メンテン→逆数）。核心＝対数変換は誤差構造も変換する。乗法誤差なら$\ln y$回帰が正しく最適、加法誤差なら偏る→NLS。
- **L3（新規）**: 前提表——誤差が乗法的（加法→NLS/WLS）／変換の定義域（$y>0$）／逆変換の平均バイアス（スミアリング）／変換後の直線性（残差確認）。
- **L5（新規）**: 変換後スケールの$R^2$・有意性は生データの予測精度と別物。線形化は頑健な出発点、最終係数は加法誤差ならNLS。逆変換時 $\exp(\sigma^2/2)$ 補正。
- **L1/L4（温存）**: 既存の指数・アレニウスの直感とデモは保持。

**検算結果（python3 + scipy 独立実装）**
- べき則 $y=Ax^b$ 両対数: 傾き=1.5000（真b）、切片exp=2.00（真A）。✅
- 乗法対数正規誤差: $\ln y$回帰の $\hat k=0.4996$（真0.5・不偏）。✅
- 加法等分散誤差: $\ln y$回帰 $\hat k=0.95$（偏り）vs NLS-on-raw $\hat k=0.504$（正）。線形化が誤差構造を変える実証。✅
- 逆変換バイアス $\exp(\sigma^2/2)$, σ=0.2 → 1.0202。✅
- 検証: node --check・verify-topics.js パス（85/85）。内部リンク（multiple-regression, mle）実在。✅

**次に深掘りすべきトピック**: `math/gradient`（gap 3.0・勾配と最適化）、`prep1/odds-ratio`（gap 2.5・contingencyと対）、`prep1/clt`（gap 2.5・中心極限定理）。

## 2026-07-06 — Iter.33（ローカルセッション・クラウドと並行）

**対象トピック**: `prep1/gauss-markov`（ガウス・マルコフの定理／BLUE）

**選定理由**: gap 2.5。回帰・重回帰・GLS がこぞって参照する土台なのに L4（デモ）が皆無、L2 も定理の陳述のみで「なぜ最小分散か」が未証明、L5 なしだった。クラウドが計算統計・発展系を進めていたため、衝突しにくい推定論の基礎を選択。

**埋めた層**
- **L2（新規・証明の骨子）**: 線形不偏 $\tilde\beta=C\boldsymbol y$、不偏条件 $CX=I$。$C=C_0+D$（$C_0$=OLS）とおくと $DX=O$、$V[\tilde\beta]=V[\hat\beta]+\sigma^2 DD^\top$ と交差項が消え、半正定値 $DD^\top$ よりOLSが最小。「等分散・無相関」がこの交差項消去の前提そのもの、と明示。
- **L4（新規デモ）**: OLS傾き vs「前半・後半の平均差」（ともに線形不偏）の標本分布を重ねる。学習目標＝BLUEの意味の可視化。操作＝不等分散の強さ・n／確認＝等分散でOLSが必ず細い（最小分散）、不等分散を上げるとOLSが最良でなくなる／対応数式＝$V[\tilde\beta]=V[\hat\beta]+\sigma^2DD^\top$。両推定量のSDを数値表示し、勝者に「←最小」ラベル。
- **L5（新規）**: 「最良」は線形・不偏の枠内の話。枠を外せばMSEの小さいリッジ回帰が存在（不偏≠正義、MSEで測る）。定理は分散最小と言うだけで実用十分とは言わない→SE・信頼区間で不確かさごと報告。
- **L3（温存）**: 既存の note（正規性不要・不等分散/系列相関でGLS）を保持、WLSを追記。

**検算結果（python3 独立実装, reps=6000, n=20）**
- 等分散 hetero=0: Var(OLS)=0.0340 < Var(split)=0.0457 → OLSがBLUE。✅
- 不等分散 hetero=0.8: Var(OLS)=0.1783 > Var(split)=0.1677 → OLSは最小でない（前提依存を実証）。✅
- ブラウザ実測: hetero=0 で OLS SD=0.183<0.210、hetero=1.5 で OLS SD=0.624>0.576（逆転）をスクリーンショット確認。デモ境界（n=8/40）で例外なし。✅
- 検証: node --check・verify-topics.js パス（86/86＝因果推論トピック込み）。div balance 2/2、KaTeXエラー0。✅

**運用メモ**: このセッション中にクラウドセッションが並行して Iter.20〜32（pls-da〜linearization）＋因果推論トピック＋デザインD3-D7 を main に反映済みだった。ローカルで先行着手した pls-da(Iter.20相当)はクラウドと重複のため破棄し、origin/main に同期のうえ本 Iter.33 を上乗せ。**以後クラウドと同時進行する場合はプッシュ直前に必ず `git fetch` で衝突確認すること**。

**次に深掘りすべきトピック**: `prep1/estimator-properties`（gap 2.5・全推定論の入口）、`prep1/model-selection`（gap 2.5・AIC/BIC）、`prep1/monte-carlo`（gap 2.5）。※着手前に DEEPENING_LOG.md 最新版でクラウドの進捗を再確認すること。

## 2026-07-06 — Iter.34-36（確率の基礎クラスタ・ローカル、クラウドと衝突回避のため確率基礎を担当）

クラウドが計算・発展系を進めていたため、衝突しにくい「確率と確率変数」クラスタ（prob.js）を担当。3トピックとも L1・デモ(L4)は良好だったので L2（導出の「なぜ」）と L3（前提・崩れたときの注意）を追加（いずれも確率の定義系ゆえ L5 は非該当）。

**Iter.34 `prep1/joint-distribution`（同時・周辺・条件付き分布）**
- L2: 2次元標準正規で $x_0$ 断面を平方完成 → $Y|X{=}x_0\sim N(\rho x_0,\,1-\rho^2)$。条件付き平均＝回帰直線、条件付き分散 $1-\rho^2$＝$R^2$ で減る不確かさ、と回帰へ接続。
- L3: 無相関≠独立。$X\sim N(0,1),Y=X^2$ は $\mathrm{Cov}=E[X^3]=0$ でも完全従属。「$\rho=0$→独立」は正規など特別な場合のみ、デモが2次元正規なのはその特別ケースだと明示。
- 検算: $x_0{=}1,\rho{=}0.6$ で条件付き平均0.594(理論0.6)・分散0.652(理論0.64)、$\mathrm{Cov}(X,X^2)\approx0$。✅

**Iter.35 `prep1/moments-shape`（モーメント・歪度・尖度・CV）**
- L2: $\sigma^3,\sigma^4$ で割る＝無次元化(スケール不変)、尖度の $-3$ は正規の $\mu_4/\sigma^4=3$ を基準0にするため（超過尖度）。
- L3: モーメント非存在（$t_3$は4次∞、コーシーは平均なし＝標本値が収束せず暴れる）、標本歪度・尖度の外れ値感受性と小標本の不安定、$CV$ は $\mu\approx0$ で爆発・比率尺度専用。
- 検算: 標準正規 $\mu_4/\sigma^4=2.999$、$\gamma_2\approx0$。$t_3$ の4次モーメント発散。✅

**Iter.36 `prep1/random-variables`（pmf/pdf/cdf/生存関数）**
- L2: 連続で $P(X{=}x)=0$ ゆえ密度は確率でなく「単位長さあたりの確率」（$f>1$ もあり得る）、$S=1-F$、ハザード $h=f/S$。
- L3: $F$ は任意の確率変数に存在するが $f$ は絶対連続のみ。混合型（点質量＋連続：降水量・打ち切り）は純粋な $f$ で書けず $F/S$ で扱う。裾が重く平均・分散がなくても $F,S$ は定義可能。
- 検算: 数式のみ（定義の整理）。node --check・verify-topics.js パス。

いずれも KaTeXエラー0・div balance 1/1・内部リンク（regression, survival, distributions）実在。verify-topics.js 86/86 PASS。

**次に深掘りすべきトピック**: `prep1/events-probability`(1.5)・`prep1/conditional-bayes`(1.5)・`prep1/mgf`(1)（確率基礎の残り、同 prob.js）→ その後 `prep1/discrete-distributions`(2)・`prep1/continuous-distributions`(1.5)（dists.js）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.37-39（確率基礎クラスタ・続き）

prob.js の残り確率基礎3件に主に L3（前提・落とし穴）を追加。L5 は定義系ゆえ非該当。

**Iter.37 `prep1/events-probability`（事象と確率・包除原理）**
- L3新規: 排反≠独立（排反は強い依存で $P>0$ なら独立になれない）、対独立≠相互独立（$X,Y$独立コイン・$Z=X\oplus Y$）、条件付きで独立性が変わる。独立は図の重なりでなく式で判定。
- 検算: 対独立 P(X,Z)=0.249=P(X)P(Z)、相互 P(X,Y,Z)=0 vs 0.124。✅

**Iter.38 `prep1/conditional-bayes`（条件付き確率・ベイズ）**
- L2強化: 事後オッズ＝事前オッズ×尤度比。有病率1%（1:99）×LR19→事後16%で基準率錯誤を一撃表現。
- L3新規: 感度特異度の一定性（スペクトラムバイアス）、参照クラスの取り違え、繰り返し検査の条件付き独立崩れ、検察官の誤謬 $P(D|H)\ne P(H|D)$。
- 検算: PPV=感度·有病率/[…]=16%（オッズ計算と一致）。✅

**Iter.39 `prep1/mgf`（モーメント母関数・確率母関数）**
- L3新規: MGFは0の近傍で存在しないと使えない（対数正規は $t>0$ で発散、t/コーシーも無し）。特性関数 $\varphi(t)=E[e^{itX}]$ は $|e^{itX}|=1$ で常に存在。一意性定理もMGF存在が前提。使い分け。
- 検算: 対数正規 $E[e^{0.5X}]$ 標本平均が $10^{27}$ 規模に発散＝MGF非存在。✅

いずれも KaTeXエラー0・div balance 1/1。verify-topics.js 86/86 PASS。

**確率基礎クラスタ完了状況**: prob.js の残りは transformations(gap1)・lln(gap2)・normal-approx(gap1.5)。次はそれら or dists.js（discrete/continuous-distributions）。

**次に深掘りすべきトピック**: `prep1/lln`(2)・`prep1/normal-approx`(1.5)・`prep1/transformations`(1)（prob.js完結）→ `prep1/discrete-distributions`(2)・`prep1/continuous-distributions`(1.5)（dists.js）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.40-42（prob.js 完結）

**Iter.40 `prep1/transformations`（変数変換・線形結合）**
- L2強化: ヤコビアンの導出（$f_Y dy=f_X dx$ の確率保存→$f_Y=f_X|dx/dy|$）、非単調は枝を足す。
- L3新規: 単調・微分可能の前提、定数区間で点質量、線形結合分散公式は常に正しいが共分散省略不可・非線形はデルタ法（近似）。

**Iter.41 `prep1/lln`（大数の法則）**
- L2強化: チェビシェフ $P(|\bar X-\mu|>\varepsilon)\le\sigma^2/(n\varepsilon^2)\to0$、平均有限なら分散なしでも可（ヒンチン）。
- L3新規: 母平均が存在しないと破綻——コーシーの標本平均は収束せず（またコーシー）。数値でIQRが n=100→10000 で約2.0のまま。i.i.d.前提・系列相関で遅延。

**Iter.42 `prep1/normal-approx`（二項・ポアソンの正規近似）**
- L2強化: 二項＝ベルヌーイ和でCLTが働く、近似の質は歪度 $(1-2p)/\sqrt{np(1-p)}$ で決まる。連続修正の数値（P(X≤8): 厳密0.2517/修正なし0.1855/修正あり0.2512）。
- L3新規: $p$ 極端＋小 $n$ で破綻→ポアソン近似($\lambda=np$)や厳密計算。$np\ge5,n(1-p)\ge5$ は歪度を抑える目安。

**検算**: コーシーLLN失敗（IQR≈2.0不変）、二項歪度 p=0.5→0/p=0.1→0.596、連続修正 0.2512 vs 厳密0.2517。すべて✅。KaTeXエラー0、verify-topics.js 86/86 PASS。

**prob.js（確率と確率変数）は全9トピック5層完備で完結**（events-probability, conditional-bayes, random-variables, joint-distribution, moments-shape, mgf, transformations, lln, normal-approx）。

**次に深掘りすべきトピック**: `prep1/discrete-distributions`(2)・`prep1/continuous-distributions`(1.5)（dists.js）→ `prep1/multivariate-normal`(1.5)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.43-45（dists.js 分布ギャラリー）

**Iter.43 `prep1/discrete-distributions`**
- L2: 二項＝ベルヌーイ和で E=np,V=np(1-p)、ポアソン＝二項極限(np=λ一定)ゆえV=E、幾何の無記憶性。
- L3: 分布選択＝生成仮定。ポアソンの過分散(V>E)→負の二項、超幾何vs二項の有限母集団修正。
- 検算: Bin(n,λ/n)→Po(λ) P(X=2) が0.234→0.224収束。✅

**Iter.44 `prep1/continuous-distributions`**
- L2: 指数の無記憶性＝一定ハザード、その和がガンマ、χ²=Ga(k/2,2)（平均k・分散2k）、対数正規＝乗法過程のCLT、ベータ＝割合。
- L3: コーシーは平均分散なし（モーメント法・LLN破綻）、指数の無記憶性が崩れる摩耗系→ワイブル、正の歪みに正規は不適。
- 検算: χ²_5=Ga(2.5,2) 平均5・分散10。✅

**Iter.45 `prep1/multivariate-normal`**
- L2: 指数部＝マハラノビス距離²、Σの固有分解で楕円軸、条件付き $X_1|X_2\sim N(\mu_1+\rho\frac{\sigma_1}{\sigma_2}(x_2-\mu_2),\sigma_1^2(1-\rho^2))$＝回帰直線。
- L3: 楕円対称の仮定、無相関⇒独立は正規のみ、Σ正定値でないと退化（共線性の極限）、多変量t/ロバスト共分散。
- 検算: ρ=0.7 で条件付き分散0.518≒理論0.51、平均0.700=理論0.7。✅

KaTeXエラー0・div balance OK・内部リンク（clt, bayes, moments-shape, lln, survival, pca, regression, joint-distribution, multicollinearity）実在。verify-topics.js 86/86 PASS。**dists.js 分布ギャラリー3件完了**。

**次に深掘りすべきトピック**: math クラスタ（`math/matrix-ops` gap2.5・`math/vectors-matrices` gap2・`math/covariance-matrix` gap2・`math/gradient` gap3・`math/eigen` gap1）。数学基礎は下流の線形代数系が参照する土台。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.46-48（math.js 線形代数・最適化）

**Iter.46 `math/matrix-ops`（行列積・逆行列・連立方程式）**
- L2: det＝面積拡大率、条件数 κ=λmax/λmin＝誤差増幅（2変数で (1+ρ)/(1-ρ)）。
- L3: 逆行列は「書く」道具で計算は危険→LU/QR/コレスキーで直接解く、悪条件・特異はSVD擬似逆・リッジで条件数↓。
- 検算: ρ=0.9→κ19、ρ=0.99→κ199。✅

**Iter.47 `math/covariance-matrix`（分散共分散行列）**
- L2: Σ=E[(x-μ)(x-μ)ᵀ] で対称、$\boldsymbol a^\top\Sigma\boldsymbol a=V[\boldsymbol a^\top\boldsymbol x]\ge0$ で半正定値→固有分解でPCA。
- L3: 標本共分散は n>p でないと特異→縮小推定(Ledoit-Wolf)、外れ値に弱い→ロバスト(MCD)、線形従属のみ捕捉。

**Iter.48 `math/gradient`（偏微分・勾配降下）**
- L2: 方向微分 ∇f·u 最大化で最急方向＝∇f、収束条件 η<2/L（最大曲率）。
- L3: 局所最小・鞍点（非凸）、悪条件の谷（κ大）でジグザグ→モメンタム・前処理・ニュートン。
- 検算: L=4 で η=0.5収束・0.55発散（閾値2/L=0.5）。✅

KaTeXエラー0・div balance OK・内部リンク（eigen, pca, regularization, multicollinearity, correlation, joint-distribution）実在。verify-topics.js 86/86 PASS。

**残り（math）**: `math/vectors-matrices`(gap2)・`math/eigen`(gap1)。次バッチで math を完結予定。
**次に深掘りすべきトピック**: `math/vectors-matrices`(2)・`math/eigen`(1) → prep1 の推定・検定の残り（estimator-properties, model-selection, neyman-pearson, multiple-comparison, nonparametric, sample-size 等）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.49-51（math完結＋推定量の性質）

**Iter.49 `math/vectors-matrices`（ベクトルと行列でデータを表す）**
- L2: 積の各成分＝内積＝重み付き和（回帰予測 $\boldsymbol x^\top\boldsymbol\beta$）、cosθ＝中心化で相関。
- L3: 数値データのみ（カテゴリはダミー化）、線形のみ（交互作用・多項式は列を作る）、スケール差は標準化。

**Iter.50 `math/eigen`（固有値・固有ベクトル）**
- L2: 特性方程式 $\det(A-\lambda I)=0$、固有値の和＝トレース・積＝行列式。
- L3: 非対称は複素固有値・非直交・対角化不能もあるが、統計の対称行列はスペクトル定理（実固有値・直交・$V\Lambda V^\top$）。半正定値で固有値≥0、0は共線性。

**Iter.51 `prep1/estimator-properties`（不偏・一致・有効）**
- L2: MSE分解の導出（交差項消去でバイアス²＋分散）。
- L3: 4性質は独立で両立せず（不偏だが不一致＝x₁のみ／偏るが一致＝MLE）、不偏推定量が存在しない例。
- L5: 不偏≠最良——正規分散でMSEは ÷(n-1)不偏0.222 > ÷n 0.191 > ÷(n+1) 0.181。リッジ・ベイズの「偏らせて安定」。
- 検算: 上記MSE数値（reps=20万）。✅

KaTeXエラー0・div balance OK。verify-topics.js 86/86 PASS。**math.js（数学の基礎6トピック）全完了**（vectors-matrices, matrix-ops, eigen, covariance-matrix, gradient, linearization）。

**次に深掘りすべきトピック**: prep1 推定・検定の残り——`prep1/model-selection`(2.5)・`prep1/neyman-pearson`(1.5)・`prep1/multiple-comparison`(1.5)・`prep1/nonparametric`(1.5)・`prep1/sample-size`(1.5)・`prep1/goodness-of-fit`(2.5)・`prep1/normal-tests`(2.5)・`prep1/delta-method`(2.5)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.52-54（検定論・testing2.js）

**Iter.52 `prep1/neyman-pearson`**
- L2: 尤度比で切る最適性の直感（α予算あたりの検出力の稼ぎ＝尤度比が大きい順の貪欲法）。
- L3: 厳密は単純vs単純のみ、複合はUMP不在（片側は指数型+単調尤度比で存在、両側は不在→尤度比検定で代用）、モデル誤特定で保証喪失。

**Iter.53 `prep1/multiple-comparison`**
- L3: FWER式は独立仮定（正相関で真値は小さめ＝独立が最悪ケース）、ボンフェローニは独立不要だが保守的。手法選択表（ボンフェローニ/ホルム/テューキー/FDR）、FWER vs FDRは守る対象が違う。
- 検算: m=20,α=5%でFWER=64%。✅

**Iter.54 `prep1/sample-size`**
- L2: 式の導出（$d\sqrt n=z_{1-α/2}+z_{1-β}$、シグナルvs余裕）。
- L3: σ既知・正規・1標本の前提（実務はt）、d決め打ちの脆さ（$n\propto1/d^2$）、事後検出力は無意味→事前分析、dを振った表で示す。
- 検算: d=0.5→n≈31, d=0.25→n≈126（4倍）。✅

KaTeXエラー0・div balance OK・内部リンク（three-tests, normal-approx）実在。verify-topics.js 86/86 PASS。

**次に深掘りすべきトピック**: `prep1/normal-tests`(2.5)・`prep1/goodness-of-fit`(2.5)（testing2.js残り）→ `prep1/nonparametric`(1.5)・`prep1/model-selection`(2.5)・`prep1/delta-method`(2.5)（prep1b.js）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.55-57（検定論の残り・testing2.js完結）

**Iter.55 `prep1/normal-tests`**
- L2: 全統計量が「推定量÷標準誤差」、t/χ²/F/正規が正規標本から芋づる式に導かれる（F=χ²比の定義）。
- L3: 平均のtは頑健だが分散のχ²/Fは正規性に極端に敏感→Levene、等分散崩れはWelch、非正規はノンパラ。

**Iter.56 `prep1/goodness-of-fit`**
- L2: O_i≈N(E_i,E_i)（二項→正規）で (O-E)/√E≈N(0,1)、二乗和がχ²。自由度k-1-m。
- L3: E_i≥5の目安、度数専用・独立、少数セルはフィッシャー正確検定/G検定、順序はコクラン・アーミテージ。

**Iter.57 `prep1/nonparametric`**
- L2: 帰無で順位割当がランダム→E[W]=n1(N+1)/2、Var=n1n2(N+1)/12（有限母集団）。
- L5: ARE=3/π≈0.955（正規でも損失5%弱＝保険料）、裾重で t を上回る。分散/形が違うと解釈ぶれ、効果量はクリフのδ。
- 検算: E[W]=105・Var=175実測一致、ARE=0.955。✅

KaTeXエラー0・div balance OK・内部リンク（distributions, nonparametric, correlation, normal-approx）実在。verify-topics.js 86/86 PASS。**testing2.js の検定群（neyman-pearson, three-tests, normal-tests, goodness-of-fit, multiple-comparison, sample-size）全完了**。

**残り約27**: prep1b.js（model-selection, delta-method, path-analysis, factor, arima, acf-pacf済, missing-data, log-linear済…）、ml.js/mva.js（overfitting, svm, roc-auc, kmeans, clustering, regularization済, regression-diagnostics, correlation, factor, clt, markov-chain, monte-carlo, order-statistics, odds-ratio済…）、advanced系、doe系（rsm, ccd済, d-optimal, blocking-designs, rsm-error, robust）、chemo/opls-da。
**次**: `prep1/model-selection`(2.5)・`prep1/delta-method`(2.5)・`prep1/overfitting`(2.5)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.58-60（CLT・相関・順序統計量）

**Iter.58 `prep1/clt`** — L2: √n則の導出（分散足し算÷n²）、歪度γ1/√n減衰・ベリーエセーン。L3: 分散有限が必要（コーシー破綻）、独立、歪みで収束遅延（n≥30は対称向け）。検算: 指数の平均歪度 n=5→0.89, n=30→0.37。✅
**Iter.59 `prep1/correlation`** — L2: r=cosθ（内積）、コーシーシュワルツで[-1,1]、r²=決定係数。L3: 外れ値・範囲制限（[-0.5,0.5]でr0.70→0.25）・シンプソン・相関≠因果。検算: 範囲制限の減衰。✅
**Iter.60 `prep1/order-statistics`** — L3: iid連続前提（タイ・離散でずれ）、極値外挿（GEV/GPD）の不確実性、中央値の頑健性。L4: 最大値分布の非対称性を明記。

KaTeXエラー0・div balance OK・内部リンク（transformations, continuous-distributions, vectors-matrices, regression, joint-distribution, survival）実在。verify-topics.js 86/86 PASS。

**次に深掘りすべきトピック**: `prep1/overfitting`(2.5, ml.js)・`prep1/svm`(2, advanced2.js)・`prep1/roc-auc`(2, advanced2.js)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.61-63（過学習・SVM・ROC/AUC）

**Iter.61 `prep1/overfitting`** — L2: バイアス・バリアンス分解の導出（MSE分解の予測版）。L3/L5: 訓練誤差≠汎化、同分布前提（分布シフト）、複雑さ/nの比、二重降下に言及。
**Iter.62 `prep1/svm`** — L2: マージン2/‖w‖の導出、双対でw=Σαyx・サポートベクターのみα>0、カーネルトリック。L3: C・γ・スケール・不均衡の表、ロジスティック/LDAとの使い分け。
**Iter.63 `prep1/roc-auc`** — L2: AUC=P(スコア陽>陰)（マンホイットニー、検算0.855≒Φ(d/√2)0.856）、判別としきい値を分離。L3: 不均衡でROC楽観的→PR曲線、部分AUC・交差・キャリブレーション。

KaTeXエラー0・div balance OK・内部リンク（estimator-properties, regularization, crossval, logistic, lda, roc-auc, nonparametric, conditional-bayes）実在。verify-topics.js 86/86 PASS。

**次に深掘りすべきトピック**: `prep1/model-selection`(2.5, prep1b.js)・`prep1/delta-method`(2.5, prep1b.js)・`prep1/regression-diagnostics`(2, advanced.js)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.64-66（モデル選択・デルタ法・回帰診断）

**Iter.64 `prep1/model-selection`** — L2: AIC=-2lnL+2k（KL情報量最小化）、BIC罰k·ln n（一致性）の違い。L3/L5: 差だけ見る・選択後推論の危険・ステップワイズ不安定→Lasso。検算: AIC2k vs BIC ln(n)k。
**Iter.65 `prep1/delta-method`** — L2: 1次テイラー→Var(g)≈[g']²Var、多変数∇gᵀΣ∇g。L3: 曲率大/σ大で乖離(eθ実測2.69vs近似1.85)、g'≈0で2次、非対称→ブートストラップ。検算: g=θ² 0.369≒0.360。
**Iter.66 `prep1/regression-diagnostics`** — L2: ハット行列H=X(XᵀX)⁻¹Xᵀ、h_ii=∂ŷ/∂y、Σh_ii=p、クックの距離D_i。L5: 診断はp値の前工程、外れ値の機械的除去禁止・感度分析。

KaTeXエラー0・div balance OK・内部リンク（crossval, regularization, transformations, bootstrap, rsm-error）実在。verify-topics.js 86/86 PASS。

**残り約20**: path-analysis, factor, arima, missing-data, markov-chain, survival(advanced.js), monte-carlo, blocking-designs, sampling-survey, odds-ratio(advanced2.js), kmeans, clustering, factor(mva.js), multicollinearity, interaction, principles(doe.js), rsm, rsm-error, d-optimal, robust(doe.js), opls-da(chemo.js)。
**次**: `prep1/multicollinearity`(2.5)・`prep1/kmeans`(1.5)・`prep1/clustering`(2.5)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.67-69（多重共線性・k-means・階層クラスタ）

**Iter.67 `prep1/multicollinearity`** — L2: Var(β̂j)=σ²/((1-Rj²)Σ..)＝VIF倍膨張、条件数と同根。L5: 予測は安定・解釈が壊れる、非有意の誤読、リッジ/PLS。検算: r=0.9→VIF5.3。
**Iter.68 `prep1/kmeans`** — L2: 交互最小化でWCSS単調減少→局所最適収束。L3: 球状・等サイズ前提(→GMM/DBSCAN)、k選択(エルボー/シルエット)、スケール、k-means++、外れ値→k-medoids。
**Iter.69 `prep1/clustering`** — L2: デンドログラム高さ=併合距離、切る高さでk後決め、ウォード=k-meansの階層版。L3: 距離・連結法依存(単連結チェイニング/完全連結)、標準化、k決まらない・O(n²)。

KaTeXエラー0・div balance OK・内部リンク（math-ops, covariance-matrix, chemo/pls, regularization, kmeans）実在。verify-topics.js 86/86 PASS。

**残り約17**: path-analysis, factor(mva.js), arima, markov-chain, survival(advanced.js), missing-data, monte-carlo, blocking-designs, sampling-survey, odds-ratio(advanced2.js), interaction, principles, rsm, rsm-error, d-optimal, robust(doe.js), opls-da(chemo.js)。
**次**: `prep1/markov-chain`(2)・`prep1/arima`(2.5)・`prep1/survival`(2.5)（advanced.js）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.70-72（マルコフ連鎖・ARIMA・生存解析）

**Iter.70 `prep1/markov-chain`** — L2: π*=固有値1の左固有ベクトル、スペクトルギャップで収束速度、2状態解析解(0.667,0.333)。L3: 吸収状態・周期性で収束せず、高次依存、MCMCの基盤。検算: π*P=π*反復一致。
**Iter.71 `prep1/arima`** — L2: 後退作用素・特性根|z|>1が定常条件(AR(1)は1/φ)、反転可能性。L3: 過剰階差・GARCH・SARIMA・見せかけ回帰、Ljung-Box。検算: φ=0.7根1.43定常/φ=1単位根。
**Iter.72 `prep1/survival`** — L2: S=exp(-∫h)、KM積極限∏(1-d/n)の打ち切り処理、部分尤度。L3: 無情報打ち切り・比例ハザード性(Schoenfeld)、ハザード比は相対量。

KaTeXエラー0・div balance OK・内部リンク（eigen, mcmc, timeseries, acf-pacf）実在。verify-topics.js 86/86 PASS。

**残り約14**: path-analysis, factor(mva.js), missing-data, monte-carlo, blocking-designs, sampling-survey, odds-ratio(advanced2.js), interaction, principles, rsm, rsm-error, d-optimal, robust(doe.js), opls-da(chemo.js)。
**次**: `prep1/monte-carlo`(2.5)・`prep1/odds-ratio`(2.5)・`prep1/missing-data`(2.5)（advanced2.js）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.73-75（分割表・欠測・モンテカルロ）

**Iter.73 `prep1/odds-ratio`** — L2: ORは行列入替対称ゆえ症例対照でも計算可、RRはコホート限定、まれでOR≈RR/多いとOR誇張。L5: ln区間・連続修正、交絡→調整OR、絶対リスク併記。検算: まれ2.51/2.50、多い2.67/2.00。
**Iter.74 `prep1/missing-data`** — L2: EMは尤度単調増加で収束、単一代入はSE過小→多重代入とルービン公式。L3: MAR/MNARはデータで区別不能、感度分析、量より起こり方。
**Iter.75 `prep1/monte-carlo`** — L2: CLTで誤差σ/√N、次元に強い(次元の呪い回避)、棄却率1/c。L3: 乱数の質・MCMC相関・分散有限、分散減少法(重点/対照/準MC)。検算: N4倍でSE0.050→0.027。

KaTeXエラー0・div balance OK・内部リンク（sampling-survey, causal-inference, mle, clt, mcmc）実在(verify-topics.js全ファイルPASS)。86/86。

**残り約11**: path-analysis, factor(mva.js), blocking-designs, sampling-survey(advanced2.js), interaction, principles, rsm, rsm-error, d-optimal, robust(doe.js), opls-da(chemo.js)。
**次**: `prep1/factor`(2.5, mva.js)・`prep1/path-analysis`(2.5)・`prep1/sampling-survey`(1)（advanced2.js）。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.76-78（因子分析・パス解析・標本調査）

**Iter.76 `prep1/factor`** — L2: Σ=ΛΛᵀ+Ψ、共通性h²、PCAは全分散/因子分析は共有相関のみ。L3: 回転不定・因子数・多変量正規・ヘイウッドケース、探索的→CFA。
**Iter.77 `prep1/path-analysis`** — L2: S≈Σ(θ)最小化、間接効果=積(a·b)、適合度χ²/RMSEA。L5: 因果の向きは仮定であって検証でない・等価モデル・識別性・未観測交絡。検算: a0.5·b0.6=0.3総合0.5。
**Iter.78 `prep1/sampling-survey`** — L2: 非復元の負相関でFPC、精度はNでなくnで決まる。L3: 層化/クラスターのトレードオフ(deff)、非標本誤差(無回答/カバレッジ)は増標本で縮まない。検算: N100/50→0.505, N1万/50→0.995。

KaTeXエラー0・div balance OK・内部リンク（pca, path-analysis, multiple-regression, causal-inference）実在。verify-topics.js 86/86 PASS。

**残り約8**: blocking-designs(advanced2.js), interaction, principles, rsm, rsm-error, d-optimal, robust(doe.js), opls-da(chemo.js)。
**次**: DoEクラスタ `doe/rsm`(2.5)・`doe/rsm-error`(2.5)・`doe/d-optimal`(2)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.79-81（DoE: RSM・D最適・誤差伝搬）

**Iter.79 `doe/rsm`** — L3: 2次は局所近似、停留点の種類(ヘッセ固有値・鞍点)、領域外外挿禁止・逐次探索、ロット・オブ・フィット。L5: 停留点にも不確かさ→デザインスペース・確認実験・望ましさ関数。
**Iter.80 `doe/d-optimal`** — L2: 信頼楕円体積∝1/√det(XᵀX)、A/G/I最適。L3: モデル依存(仮定違いで最悪)、端点集中でロット検出不能→中心点追加、局所最適。
**Iter.81 `doe/rsm-error`** — L3: デルタ法(速い1次近似・非線形で外れる)vs MC(重いが柔軟)、σ²推定の正しさ、モデル誤り・外挿は含まない。

KaTeXエラー0・div balance OK・内部リンク（rsm-error, robust, multivariate-normal, delta-method, ccd）実在。verify-topics.js 86/86 PASS。

**残り約5**: blocking-designs(advanced2.js), interaction, principles, robust(doe.js), opls-da(chemo.js)。
**次（ラスト）**: `doe/robust`(1.5)・`prep1/principles`(2.5)・`prep1/interaction`(1.5)・`prep1/blocking-designs`(2.5)・`chemo/opls-da`(2.5)。※着手前にクラウド進捗を再確認。

## 2026-07-06 — Iter.82-86（DoE基礎・OPLS-DA／全トピック完了）

**Iter.82 `prep1/principles`** — L2: 3原則＝誤差の3扱い（反復=測る/無作為化=無害化/局所管理=除く）。L3: 疑似反復の誤り、無作為化欠如で交絡、一般化の限界。
**Iter.83 `prep1/interaction`** — L2: (αβ)ij＝加法で説明できないズレ、ゼロ和制約、SS分解。L3: 除去可能(非平行→変換で消える)vs質的交互作用、反復必須、有意なら主効果を単独解釈しない。
**Iter.84 `doe/robust`** — L2: 誤差伝搬Var(y)≈∇yᵀΣ∇y、ピークでなくマージン最大、SN比。L3: モデル正しさ・境界の不確かさ・Σx見積り、ICH Q8の安全余裕。
**Iter.85 `prep1/blocking-designs`** — L2: SS分解で乱塊法が誤差を縮める、分解能III/IV/V。L3: 疎性前提・別名を折り返しで解く・ブロック×処理交互作用、回数削減の等価交換。
**Iter.86 `chemo/opls-da`** — L2: PLS-DAと数学的等価で回転して整理するだけ、予測力は不変。L3/L5: 「R²上昇＝過学習信号」、見た目は証拠でない、Q²・並べ替え・独立検証、S-plotと交絡漏れ。

KaTeXエラー0・div balance OK・全内部リンク実在。verify-topics.js 86/86 PASS。

---

# ✅ 全86トピック 5層化 完了（2026-07-06）

Iter.1〜86（ローカル＋クラウド並行）で、全86トピックが5層構成（L1直感/L2数式と導出/L3前提と崩れたときの影響/L4グラフ接続/L5有意性と実質的意味〔検定・推定・モデル系のみ〕）を充足。追加した数式・数値例はすべて python3 等で独立検算し、各トピックで node --check・verify-topics.js（構造・内部リンク・$$フェンス・quiz対応）・KaTeXレンダリング・デモ実行（新設分は境界値含む）を確認済み。GitHub Pages へ反映済み。

**ファイル別完了**: math.js(6)・prob.js(9)・dists.js(3)・prep1.js/prep1b.js/estimation2.js/testing2.js/ml.js/mva.js/advanced.js/advanced2.js/doe.js/chemo.js の全トピック。

**今後の保守メモ**: 新規トピックを足したら本ログのマトリクスに行を追加し、同じ5層基準・検算・verify-topics.js通過を満たすこと。デモを新設/変更したらブラウザで境界値まで実行確認。

## 2026-07-06 — 新規2トピック＋Q²強化（ユーザー要望: lack of fit / 説明変数選択 / Q² / 過学習）

ユーザー要望の4概念をカバー。過学習は既存 overfitting/crossval で充足済みのため相互リンクのみ。設計・数値検証を多エージェントワークフロー（4エージェント, 23.6万トークン, 査読含む）で並列化し、実装は本体で codebase規約に合わせて手書き、全数値を再現可能スクリプトで確定。

**新規 `prep1/lack-of-fit`（適合度の欠如・純粋誤差）** — 回帰分析group, ml.js
- 5層: $SS_E=SS_{PE}+SS_{LOF}$ 分解（交差項消去の導出）、$F=\frac{SS_{LOF}/(c-p)}{SS_{PE}/(n-c)}$、前提表（反復必須・等分散・c>p）、L5（非有意≠正しい・検出力は反復数依存・$F\propto1/MS_{PE}$）。デモ: 次数×曲がりでLOFのF/pが動く、群平均vsモデルの縦線、SS_PE不変。
- 検算(python numpy/scipy, c=5 reps=3 n=15 seed=3): 直線 F=90.0 p=1.5e-7 R²=0.001, SS_PE=1.81; 2次 SS_LOF=0.30 F=0.84 p=0.46 R²=0.958 SS_PE不変。棄却限界 F_0.05(3,10)=3.71。✅
- example+keypoints4+quiz4。

**新規 `prep1/variable-selection`（説明変数の選択）** — 回帰分析group, ml.js
- 5層: 戦略（総当り$2^p$/前進/後退($p\ge n$不可)/ステップワイズ=貪欲・不安定）、規準（調整R²/AIC/BIC/$C_p$=RSS/σ̂²-n+2p・σ̂²はフルモデル/CV）、Lasso連続縮小・Elastic Net、L5（選択後推論）。デモ: 前進選択の訓練誤差(単調減)vsCV誤差(U字)。
- 検算(python): 選択後推論=全ノイズn=60,p=8でbest変数の素朴p<0.05率34.5%(名目の6.9倍, 4000反復); 選択の不安定性=500ブートストラップ前進選択で50種類に散る。✅
- example+keypoints4+quiz4。

**`prep1/crossval` 強化**: Q²（予測的決定係数）セクション新設。$\mathrm{PRESS}=\sum(y_i-\hat y_{-i})^2$, $Q^2=1-\mathrm{PRESS}/\mathrm{TSS}$, $Q^2\le R^2$・負値解釈・$R^2-Q^2$ギャップ=過学習、RMSECV/RMSEP・PLS接続・lack-of-fit使い分け。デモにR²/Q²の数値表示追加。keypoint+quiz2問追加(計4問)。
- 検算(python, n=40 x∈[-3,3] 3次 σ=2 seed=11 TSS=643.7): R²単調増 0.64→0.80→0.87、Q²はd2-4で0.75ピーク→d10で0.22、gap 0.04→0.65。✅

**双方向リンク**: model-selection→variable-selection, regression-diagnostics→lack-of-fit, overfitting→Q²(crossval)。査読の「往復リンク」「Q²↔lack-of-fit使い分け」指摘に対応。

**検証**: node --check全ファイル, verify-topics.js 88トピック/88クイズ PASS。3トピックともブラウザでKaTeXエラー0・div balance 1/1・デッドリンク0、デモ境界値で例外なし・視覚確認済み。準1級トピック数 71→74。

## 2026-07-12 全トピック説明監査（audit-depth.js 新設）

**手法**: `tools/audit-depth.js` を新設——全88トピックの本文実質文字数（タグ・数式除去後）、h3見出し数、数式ブロック数、前提/直感/例題/まとめ/クイズの有無を一括計測。中央値1082字。字数下位＋構造フラグ（$$0個・h3≤1・前提✗）の候補18件を全文精読。

**精読結果**: timeseries, testing, gradient, arima, moment-method, mle, events-probability, lda, lln, order-statistics, distributions, pca, conditional-bayes, random-variables, clustering, mgf, multicollinearity, moments-shape の18件はいずれも5層構造が保たれており、字数の短さは数式密度によるもの（監査は数式を除外して数えるため）。構造フラグの大半は表記ゆれによる誤検知（例: multicollinearity の前提✗は「診断/対処」の語で書かれているため）。

**本物の説明不足として3件を増強**:
1. **prep1/mle**（727→1014字）: 「微分して0とおくと」と結果だけだった導出を展開——対数尤度の具体形、二乗和最小化＝最小二乗との一致、スコア関数の定義と期待値0、尤度の曲率→フィッシャー情報量への接続。対数を取る理由も追記。
2. **prep1/distributions**（781→1108字）: 「どの統計量がどの分布に従い、どの検定で使うか」の対応表を新設（t←平均/回帰係数、χ²←分散/適合度/独立性、F←分散比/ANOVA）。合言葉「平均にはt、分散にはχ²、分散の比にはF」。二項→ポアソン近似に実務例と正規近似への内部リンク追加。
3. **prep1/pca**（797→拡張）: 「主成分をいくつ残すか・どう読むか」新設——累積寄与率・スクリープロット（肘）・カイザー基準の3目安と使い分け、負荷量による軸の意味づけ（サイズ因子/対比）、バイプロットの読み方（方向と相関）。

**検証**: node --check・verify-topics.js（88/88）PASS、3ページともブラウザでKaTeXエラー0・新見出しの描画確認・consoleエラー0。

## 2026-07-25 並列エージェントによる全文精読監査（第1弾: 誤り修正）

**きっかけ**: 前回(2026-07-12)の audit-depth.js による監査は指標ベースで、88件中18件しか全文精読していなかった。残り70件を6つの並列サブエージェントで全文精読させたところ、**約130件の指摘、うち「説明不足」を超えた誤り・矛盾が9件**見つかった。前回の「全トピック問題なし」という結論は誤りだった。

**修正した誤り9件**:
1. `prep1/normal-approx` — ポアソン近似の条件が誤り。「$p$極小＋**小さい$n$**」と書いていたが、ポアソン近似は $n\to\infty,p\to0,np=\lambda$ 一定の極限。正規/ポアソン/厳密の使い分け表を新設。検算(python): $n{=}100,p{=}0.02$ の $P(X\le1)$ = 厳密0.4033 / ポアソン0.4060 / 正規(連続修正)0.3605。
2. `prep1/goodness-of-fit` — 導出が破綻。$O_i\approx N(E_i,E_i)$ としていたが二項の分散は $E_i(1-p_i)$。各セル独立扱いだと自由度が $k$ になり直後の $k-1$ と矛盾していた。多項の負相関 $\mathrm{Cov}=-np_ip_j$ を含めた正しい筋に修正し、$k=2$ で $\chi^2=z^2$ になる検算を追加。
3. `prep1/missing-data` — EMのEステップを「欠測の期待値で補完」と記述。正しくは**完全データ対数尤度の条件付き期待値** $Q(\theta|\theta^{(t)})$。この誤りのままだと直後に批判している単一代入と区別がつかない。$E[y^2]$ に条件付き分散項が要ることまで明記。
4. `prep1/monte-carlo` — 棄却法の手順から包絡定数 $c$ が欠落（$f/g$ は1を超えうるので確率に使えない）。$f\le cg$ と3ステップ手順、採択率 $1/c$ を明記。
5. `prep1/mcmc` — 見出しが「メトロポリス・ヘイスティングス」なのに採択確率が対称提案版。一般形 $\alpha=\min(1, p(\theta')q(\theta|\theta')/[p(\theta)q(\theta'|\theta)])$ に修正。
6. `prep1/markov-chain` — noteが「継続確率を1にすると」と促すがスライダー上限0.95で観察不能。$|\lambda_2|=a+b-1$ を明示し上限0.95(→0.90)で確認できる記述に修正。
7. `chemo/pls-da` ↔ `chemo/opls-da` — noteが矛盾（前者「交絡で重なる」、後者「交絡でも分離は保たれる」）。第1成分は平均差方向なので後者が正しい。pls-da側を「ノイズは重なる/交絡は分離を保ったまま軸が傾く」に修正。
8. `chemo/pls` — デモが $R^2$ のみ表示のため、noteの「真の成分数を超えると悪化」が**絶対に観察できなかった**。一つ抜き交差検証を実装し $R^2/Q^2$ 併記＋校正(青)/CV(オレンジ)の2系列に。検証: R² 0.894→0.961 単調増、Q² は真の成分数2で0.892ピーク→8成分0.810。
9. `doe/rsm-error` — 本文は「係数を多変量正規からサンプリング」と書くがデモは予測値を正規から直接生成しており、noteの「非対称になる」が観察不能。コレスキー分解で $\hat\beta$ を実際にサンプリングし、目的量を選択可能に（応答$\hat y$=線形／停留点$x^*=-\frac12B^{-1}b$=非線形）。検証: $\hat y$ は左右の裾 2.57 vs 2.58 で対称、$x^*$ は 0.34 vs 1.75 で右に歪む。あわせて信頼区間と予測区間の区別（根号内の$+1$、確認実験に使うのは後者）を追記。

**検証**: node --check 全ファイル / verify-topics.js 88件PASS / 9ページすべてブラウザでKaTeXエラー0・consoleエラー0 / 数値はpython・ブラウザ上で再現確認。

### 第2弾: 重要度「高」の欠落を補充（基礎・回帰・検定 9トピック）

- `math/matrix-ops` — **タイトルに「行列の積」とあるのに本文に定義が無かった**。$(AB)_{ij}=\sum_k a_{ik}b_{kj}$ と2×2数値例、寸法規則（$X$が$n\times p$なら$X^\top X$は$p\times p$対称）、非可換 $AB\ne BA$（反例も数値で）、$(AB)^\top=B^\top A^\top$、$(AB)^{-1}=B^{-1}A^{-1}$。あわせてランク（線形独立な列数）を定義し $\mathrm{rank}(X^\top X)=\mathrm{rank}(X)\le\min(n,p)$ から「$p>n$ なら必ず特異」を論理的に閉じた。
- `prep1/joint-distribution` — **全期待値・全分散の公式がサイト全体に無かった**。$E[Y]=E[E[Y|X]]$、$V[Y]=E[V[Y|X]]+V[E[Y|X]]$ を追加し「全変動=群内+群間」と読ませる。2次元正規で検算（$1-\rho^2$ と $\rho^2$ の和が1）、$R^2$・ANOVA平方和分解・ラオブラックウェルへの接続を明示。
- `prep1/clt` — 最頻出の誤解「元データが正規に近づく」への明示的反論と、大数の法則との役割分担（1点への収束 vs ばらつきの形）、標準化形 $\sqrt n(\bar X-\mu)/\sigma\xrightarrow{d}N(0,1)$ を追加。
- `prep1/confidence` — 母比率（Wald＋破綻時のWilson/Clopper-Pearson）・母分散（$\chi^2$、非対称）の区間を表で追加。数値例1本（$\bar x{=}50,s{=}10,n{=}25$ → $[45.87,54.13]$、$n{=}100$ で半分）。**信頼区間と予測区間の区別**（根号内の$+1$、$n\to\infty$で信頼区間は0に潰れるが予測区間は残る）を新設。検算(python): $t_{0.025,24}=2.064$, $t_{0.025,99}=1.984$。
- `prep1/gauss-markov` — 前提が誤差2条件のみで**「前提が崩れても不偏性は無事」と誤解させる構成**だった。前提4つの表を作り深刻度を階層化（①内生性→不偏性・一致性が壊れる=致命的／②不等分散→効率とSEのみ=対処可能／③フルランク／④外生性）。$s^2=\mathrm{RSS}/(n-p)$ と $\mathrm{SE}(\hat\beta_j)$、$n-p$ で割る幾何的理由、不等分散対処の2段構え（形が分かる→WLS/GLS、分からない→頑健標準誤差）を追加。
- `prep1/normal-tests` — 表に**対応のあるt検定**とWelchを追加（対応ありを独立2標本で解析すると検出力を失う点も明記）。「まずF検定で等分散確認」の古典的流れを改め、**Welchを既定にする**現代的推奨とその理由2点（F検定は正規性に敏感／予備検定は$\alpha$を歪める）、ウェルチ・サタスウェイトの自由度式を追加。フィッシャーz変換は「作れます」で止まっていたので $1/(n-3)$ と逆変換まで書き、数値例（$r{=}0.6,n{=}30$ → $[0.306,0.790]$、python検算済）。
- `prep1/multiple-comparison` — **ホルム法とBH法が名前だけで手順が無かった**（準1級では手順そのものが問われる）。両者の手順を明記し、共通データ（$m{=}5$, $p=(0.001,0.008,0.02,0.04,0.3)$）で棄却数を比較する表を作成。検算(python): ボンフェローニ2件・ホルム2件・BH 4件。ダネット法（対照群比較、比較数$k-1$）も表に追加。
- `prep1/sample-size` — **2群比較の式が無く、1標本の式を流用すると必要数を半分以下に見誤る**状態だった。$n_{各群}=2(z_{1-\alpha/2}+z_{1-\beta})^2/d^2$ と係数2の理由（差のSEが$\sigma\sqrt{2/n}$）を追加。検算(python): $d{=}0.5$ で1標本32・2群各63（$t$基準の正確計算では64と併記）。Cohenの目安（0.2/0.5/0.8 → 197/32/13）も追加。
- `prep1/three-tests` — 自由度1に固定されており入れ子モデル比較に使えなかった。制約$r$本→$\chi^2_r$に一般化し、LRが「入れ子モデルの対数尤度差」＝**逸脱度の差**であること、Waldの2次形式、$r{=}1$で$t^2$に戻ることを追加。

**検証**: node --check / verify-topics.js 88件PASS / 9ページすべてKaTeXエラー0・新見出しの描画確認・consoleエラー0 / 全数値をpythonで検算（うち2件の誤りを発見し修正: Cohen $d{=}0.2$ を199→197、2群を64→63）。
