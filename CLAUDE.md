# Temporal Fusion Transformers for Interpretable Multi-horizon Time Series Forecasting

## Project ID
proj_bbe7a92c

## Taxonomy
TFT, Transformer, MultimodalForecasting

## Current Cycle
4

## Objective
Implement, validate, and iteratively improve the paper's approach with production-quality standards.


## Design Brief
### Problem
Multi-horizon time series forecasting is challenging due to the need to handle complex interactions between inputs with known and unknown future values, static covariates, and the requirement for long-range dependency modeling. Traditional models often fail to leverage the full richness of multimodal data or lack transparency. This paper introduces the Temporal Fusion Transformer (TFT), a novel attention-based architecture designed specifically for multi-horizon forecasting. TFT aims to achieve state-of-the-art performance by effectively integrating diverse data sources (static, known future, and observed temporal) and capturing temporal dynamics at different scales. A key objective is to provide interpretability, allowing users to understand the model's predictions by identifying the most significant input variables and important past time steps, a feature often missing in complex deep learning models.

### Datasets
Electricity Load Diagrams Data Set: https://archive.ics.uci.edu/ml/datasets/ElectricityLoadDiagrams20112014 (Primary)
- Favorita Grocery Sales: https://www.kaggle.com/c/favorita-grocery-sales-forecasting (Secondary)

### Targets
Predict future time series values for multiple horizons simultaneously.
- Optimize the P50 and P90 Quantile Loss to generate accurate point forecasts and prediction intervals.

### Model
The Temporal Fusion Transformer (TFT) is an attention-based deep learning model for multi-horizon time series forecasting. Its architecture consists of several key components: 1) Gated Residual Networks (GRNs) used throughout the model to provide adaptive processing and skip connections. 2) Variable Selection Networks to select the most salient input variables at each time step. 3) A static covariate encoder to process time-invariant metadata. 4) An LSTM-based encoder-decoder layer to handle sequence information. 5) An interpretable multi-head self-attention mechanism to capture long-range temporal dependencies and provide insights into which past events are most influential for a given forecast.

### Training
The model is trained end-to-end by minimizing the total Quantile Loss for all specified quantiles (e.g., P10, P50, P90) across all prediction horizons. The paper uses the Adam optimizer with a learning rate schedule that includes warm-up followed by decay. Data is split chronologically into training, validation, and testing sets. The validation set is used for early stopping and hyperparameter tuning.

### Evaluation
The primary evaluation metric is the Quantile Loss (QL), specifically for the P50 (median forecast) and P90 quantiles, averaged over all prediction horizons on the test set. The paper compares TFT's performance against several baselines, including ARIMA, ETS, DeepAR, and various LSTM-based models.


## データ取得方法（共通データ基盤）

**合成データの自作は禁止。以下のARF Data APIからデータを取得すること。**

### ARF Data API
```bash
# OHLCV取得 (CSV形式)
curl -o data/aapl_1d.csv "https://ai.1s.xyz/api/data/ohlcv?ticker=AAPL&interval=1d&period=5y"
curl -o data/btc_1h.csv "https://ai.1s.xyz/api/data/ohlcv?ticker=BTC/USDT&interval=1h&period=1y"
curl -o data/nikkei_1d.csv "https://ai.1s.xyz/api/data/ohlcv?ticker=^N225&interval=1d&period=10y"

# JSON形式
curl "https://ai.1s.xyz/api/data/ohlcv?ticker=AAPL&interval=1d&period=5y&format=json"

# 利用可能なティッカー一覧
curl "https://ai.1s.xyz/api/data/tickers"
```

### Pythonからの利用
```python
import pandas as pd
API = "https://ai.1s.xyz/api/data/ohlcv"
df = pd.read_csv(f"{API}?ticker=AAPL&interval=1d&period=5y")
df["timestamp"] = pd.to_datetime(df["timestamp"])
df = df.set_index("timestamp")
```

### ルール
- **リポジトリにデータファイルをcommitしない** (.gitignoreに追加)
- 初回取得はAPI経由、以後はローカルキャッシュを使う
- data/ディレクトリは.gitignoreに含めること



## Preflight チェック（実装開始前に必ず実施）

**Phase の実装コードを書く前に**、以下のチェックを実施し結果を `reports/cycle_4/preflight.md` に保存すること。

### 1. データ境界表
以下の表を埋めて、未来データ混入がないことを確認:

```markdown
| 項目 | 値 |
|---|---|
| データ取得終了日 | YYYY-MM-DD (今日以前であること) |
| Train期間 | YYYY-MM-DD 〜 YYYY-MM-DD |
| Validation期間 | YYYY-MM-DD 〜 YYYY-MM-DD |
| Test期間 | YYYY-MM-DD 〜 YYYY-MM-DD |
| 重複なし確認 | Yes / No |
| 未来日付なし確認 | Yes / No |
```

### 2. Feature timestamp 契約
- 全ての特徴量は時刻 t の予測に t-1 以前のデータのみを使用しているか？ → Yes / No
- Scaler / Imputer は train データのみで fit しているか？ → Yes / No
- Centered rolling window を使用していないか？ → Yes / No (使用していたら修正)

### 3. Paper spec 差分表
論文の主要パラメータと現在の実装を比較:

```markdown
| パラメータ | 論文の値 | 現在の実装 | 一致? |
|---|---|---|---|
| ユニバース | (論文の記述) | (実装の値) | Yes/No |
| ルックバック期間 | (論文の記述) | (実装の値) | Yes/No |
| リバランス頻度 | (論文の記述) | (実装の値) | Yes/No |
| 特徴量 | (論文の記述) | (実装の値) | Yes/No |
| コストモデル | (論文の記述) | (実装の値) | Yes/No |
```

**preflight.md が作成されるまで、Phase の実装コードに進まないこと。**

## ★ 今回のタスク (Cycle 4)


### Phase 4: 解釈可能性コンポーネントの実装と可視化 [Track ]

**Track**:  (A=論文再現 / B=近傍改善 / C=独自探索)
**ゴール**: 学習済みモデルから変数重要度とアテンション重みを抽出し、可視化する。

**具体的な作業指示**:
1. `src/interpretability.py`を作成。学習済みモデルとデータサンプルを入力とし、変数選択ネットワークの重み（変数重要度）と、デコーダのセルフアテンション重み（時間的重要度）を返す関数を実装。2. `notebooks/interpretability_analysis.ipynb`を作成。3. このノートブックで、テストセットからいくつかのサンプルをロードし、`interpretability.py`の関数を使って重要度スコアを抽出。4. 変数重要度をバーチャートで、アテンション重みをヒートマップで可視化する。論文の図4と図5を参考にプロットを作成する。

**期待される出力ファイル**:
- src/interpretability.py
- notebooks/interpretability_analysis.ipynb

**受入基準 (これを全て満たすまで完了としない)**:
- 変数重要度のバーチャートが生成される
- 時間的アテンションのヒートマップが生成される
- ノートブックがエラーなく実行でき、解釈可能性に関するプロットが表示される




## データ問題でスタックした場合の脱出ルール

レビューで3サイクル連続「データ関連の問題」が指摘されている場合:
1. **データの完全性を追求しすぎない** — 利用可能なデータでモデル実装に進む
2. **合成データでのプロトタイプを許可** — 実データが不足する部分は合成データで代替し、モデルの基本動作を確認
3. **データの制約を open_questions.md に記録して先に進む**
4. 目標は「論文の手法が動くこと」であり、「論文と同じデータを揃えること」ではない


## スコア推移
Cycle 1: 45% → Cycle 2: 55% → Cycle 3: 58%
改善速度: 6.5%/cycle





## レビューからのフィードバック
### レビュー改善指示
1. [object Object]
2. [object Object]
3. [object Object]
### マネージャー指示 (次のアクション)
1. 【REPLAN: 評価設計修正】
primaryBlocker: 検証データセットの規模とサンプリング手法が論文の実験設定と著しく乖離している点

以下を最優先で実施:
1. Walk-forward validationの実装を確認(train/test境界の厳密分離)
2. フォワードルッキングがないことをテストで証明
3. metrics.jsonのwalkForward.windowsが5以上であることを確認

完了条件: `src/data.py`におけるデータ読み込み設定が、エンティティ数を300以上に、サンプリングストライドを1に設定した状態で、パイプライン全体がエラーなく実行され、`reports/`に学習結果が出力されること。
2. 【最優先】`src/data.py`のデータローダーを修正し、`stride=24`という固定値を削除する。サンプリングストライドをコマンドライン引数または設定ファイル (`configs/data_config.yaml`等) で制御可能にし、デフォルト値を`1`に設定して、論文が意図する時間単位のダイナミクスを捉えられるようにする。
3. 【重要】データパイプライン (`src/data.py`) を拡張し、論文で対象となっている370エンティティ、またはそれに準ずる規模（最低でも300以上）の全データを処理できるように修正する。単一のエンティティIDや少数のリストだけでなく、大規模なエンティティ群を効率的に扱えるようにリファクタリングする。
4. 【推奨】上記2点の修正を適用した状態で`src/train.py`を一度実行し、新しいデータセットとサンプリング設定におけるベースラインのQuantile Lossを`reports/C4_replan_baseline_metrics.json`として保存する。これにより、評価基盤の変更による影響を定量的に記録する。


## 全体Phase計画 (参考)

✓ Phase 1: コアモデルのスケルトン実装 — TFTの主要コンポーネントをPyTorchで実装し、合成データでフォワードパスが通る状態にする。
✓ Phase 2: Electricityデータパイプライン構築 — Electricityデータセットをダウンロードし、TFTが要求する形式に前処理するデータローダーを実装する。
✓ Phase 3: 学習・評価フレームワークの実装 — TFTモデルをElectricityデータセットで学習させ、テストセットでQuantile Lossを評価する。
→ Phase 4: 解釈可能性コンポーネントの実装と可視化 — 学習済みモデルから変数重要度とアテンション重みを抽出し、可視化する。
  Phase 5: ハイパーパラメータ最適化 — Optunaを使い、主要なハイパーパラメータを論文の推奨値周辺で探索し、検証セットでの性能を最大化する。
  Phase 6: Favoritaデータセットでの汎化性能検証 — 実装したTFTを異なるドメインのFavoritaデータセットに適用し、モデルの汎化性能を検証する。
  Phase 7: ウォークフォワード検証によるロバスト性評価 — 固定スプリットではなく、ウォークフォワード検証を用いてモデル性能の安定性を評価する。
  Phase 8: アーキテクチャのAblation Study — TFTの各コンポーネントの寄与度を評価するため、一部を無効化したモデルで性能を比較する。
  Phase 9: ベースラインモデルとの性能比較 — TFTの性能を評価するため、標準的なベースラインモデル（DeepAR）を実装し、性能を比較する。
  Phase 10: 最終レポート生成 — 全フェーズの結果を統合し、再現性レポートとサマリーを生成する。


## ベースライン比較（必須）

戦略の評価には、以下のベースラインとの比較が**必須**。metrics.json の `customMetrics` にベースライン結果を含めること。

| ベースライン | 実装方法 | 意味 |
|---|---|---|
| **1/N (Equal Weight)** | 全資産に均等配分、月次リバランス | 最低限のベンチマーク |
| **Vol-Targeted 1/N** | 1/N にボラティリティターゲティング (σ_target=10%) を適用 | リスク調整後の公平な比較 |
| **Simple Momentum** | 12ヶ月リターン上位50%にロング | モメンタム系論文の場合の自然な比較対象 |

```python
# metrics.json に含めるベースライン比較
"customMetrics": {
  "baseline_1n_sharpe": 0.5,
  "baseline_1n_return": 0.05,
  "baseline_1n_drawdown": -0.15,
  "baseline_voltarget_sharpe": 0.6,
  "baseline_momentum_sharpe": 0.4,
  "strategy_vs_1n_sharpe_diff": 0.1,
  "strategy_vs_1n_return_diff": 0.02,
  "strategy_vs_1n_drawdown_diff": -0.05,
  "strategy_vs_1n_turnover_ratio": 3.2,
  "strategy_vs_1n_cost_sensitivity": "論文戦略はコスト10bpsで1/Nに劣後"
}
```

「敗北」の場合、**どの指標で負けたか** (return / sharpe / drawdown / turnover / cost) を technical_findings.md に明記すること。

## 評価原則
- **主指標**: Sharpe ratio (net of costs) on out-of-sample data
- **Walk-forward必須**: 単一のtrain/test splitでの最終評価は不可
- **コスト必須**: 全メトリクスは取引コスト込みであること
- **安定性**: Walk-forward窓の正の割合を報告
- **ベースライン必須**: 必ずナイーブ戦略と比較

## 再現モードのルール（論文忠実度の維持）

このプロジェクトは**論文再現**が目的。パフォーマンス改善より論文忠実度を優先すること。

### パラメータ探索の制約
- **論文で既定されたパラメータをまず実装し、そのまま評価すること**
- パラメータ最適化を行う場合、**論文既定パラメータの近傍のみ**を探索（例: 論文が12ヶ月なら [6, 9, 12, 15, 18] ヶ月）
- 論文と大きく異なるパラメータ（例: 月次論文に対して日次10営業日）で良い結果が出ても、それは「論文再現」ではなく「独自探索」
- 独自探索で得た結果は `customMetrics` に `label: "implementation-improvement"` として記録し、論文再現結果と明確に分離

### データ条件の忠実度
- 論文のデータ頻度（日次/月次/tick）にできるだけ合わせる
- ユニバース規模が論文より大幅に小さい場合、その制約を `docs/open_questions.md` に明記
- リバランス頻度・加重方法も論文に合わせる



## 禁止事項

### データ・特徴量の禁止パターン（具体的）
- `scaler.fit(full_data)` してから split → **禁止**。`scaler.fit(train_data)` のみ
- `df.rolling(window=N, center=True)` → **禁止**。`center=False` (デフォルト) を使用
- データの `end_date` が今日以降 → **禁止**。`end_date` を明示的に過去に設定
- `merge` で未来のタイムスタンプを持つ行が特徴量に混入 → **禁止**
- ラベル生成後に特徴量を合わせる（ラベルの存在を前提に特徴量を選択）→ **禁止**

### 評価・報告の禁止パターン
- コストなしのgross PnLだけで判断しない
- テストセットでハイパーパラメータを調整しない
- 時系列データにランダムなtrain/test splitを使わない
- README に metrics.json と異なる数値を手書きしない
- APIキーやクレデンシャルをコミットしない
- **新しい `scripts/run_cycle_N.py` や `scripts/experiment_cycleN.py` を作成しない。既存の `src/` 内ファイルを修正・拡張すること**
- **合成データを自作しない。必ずARF Data APIからデータを取得すること**
- **「★ 今回のタスク」以外のPhaseの作業をしない。1サイクル=1Phase**
- **論文が既定するパラメータから大幅に逸脱した探索を「再現」として報告しない**

## Git / ファイル管理ルール
- **データファイル(.csv, .parquet, .h5, .pkl, .npy)は絶対にgit addしない**
- `__pycache__/`, `.pytest_cache/`, `*.pyc` がリポジトリに入っていたら `git rm --cached` で削除
- `git add -A` や `git add .` は使わない。追加するファイルを明示的に指定する
- `.gitignore` を変更しない（スキャフォールドで設定済み）
- データは `data/` ディレクトリに置く（.gitignore済み）
- 学習済みモデルは `models/` ディレクトリに置く（.gitignore済み）

## 出力ファイル
以下のファイルを保存してから完了すること:
- `reports/cycle_4/preflight.md` — Preflight チェック結果（必須、実装前に作成）
- `reports/cycle_4/metrics.json` — 下記スキーマに従う（必須）
- `reports/cycle_4/technical_findings.md` — 実装内容、結果、観察事項

### metrics.json 必須スキーマ（Single Source of Truth）
```json
{
  "sharpeRatio": 0.0,
  "annualReturn": 0.0,
  "maxDrawdown": 0.0,
  "hitRate": 0.0,
  "totalTrades": 0,
  "transactionCosts": { "feeBps": 10, "slippageBps": 5, "netSharpe": 0.0 },
  "walkForward": { "windows": 0, "positiveWindows": 0, "avgOosSharpe": 0.0 },
  "customMetrics": {}
}
```
- 全フィールドを埋めること。Phase 1-2で未実装のメトリクスは0.0/0で可。
- `customMetrics`に論文固有の追加メトリクスを自由に追加してよい。

### レポート生成ルール（重要: 数値の一貫性）
- **`metrics.json` が全ての数値の唯一のソース (Single Source of Truth)**
- README や technical_findings に書く数値は **必ず metrics.json から引用** すること
- **手打ちの数値は禁止**。metrics.json に含まれない数値を README に書かない
- technical_findings.md で数値に言及する場合も metrics.json の値を参照
- README.md の Results セクションは metrics.json を読み込んで生成すること

### テスト必須
- `tests/test_data_integrity.py` のテストを実装状況に応じて有効化すること
- 新しいデータ処理や特徴量生成を追加したら、対応する leakage テストも追加
- `pytest tests/` が全パスしない場合、サイクルを完了としない

### その他の出力
- `docs/open_questions.md` — 未解決の疑問と仮定
- `README.md` — 今回のサイクルで変わった内容を反映して更新
- `docs/open_questions.md` に以下も記録:
  - ARF Data APIで問題が発生した場合
  - CLAUDE.mdの指示で不明確な点や矛盾がある場合
  - 環境やツールの制約で作業が完了できなかった場合

## 標準バックテストフレームワーク

`src/backtest.py` に以下が提供済み。ゼロから書かず、これを活用すること:
- `WalkForwardValidator` — Walk-forward OOS検証のtrain/test split生成
- `calculate_costs()` — ポジション変更に基づく取引コスト計算
- `compute_metrics()` — Sharpe, 年率リターン, MaxDD, Hit rate算出
- `generate_metrics_json()` — ARF標準のmetrics.json生成

```python
from src.backtest import WalkForwardValidator, BacktestConfig, calculate_costs, compute_metrics, generate_metrics_json
```

## Key Commands
```bash
pip install -e ".[dev]"
pytest tests/
python -m src.cli run-experiment --config configs/default.yaml
```

Commit all changes with descriptive messages.
