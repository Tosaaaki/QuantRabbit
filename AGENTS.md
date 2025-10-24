# AGENT.me  –  QuantRabbit Agent Specification

## 1. ミッション
> **狙い**	: USD/JPY で 1 日 +100 pips を実現する、 24/7 無裁量トレーディング・エージェント。  
> **境界**	: 発注・リスクは機械的、曖昧判断とニュース解釈は GPT‑5 系 (既定 gpt‑5‑mini) に委譲。

---

## 2. コンポーネント間の契約

| レイヤ | 担当 | 期待する入出力 |
|--------|------|----------------|
| **DataFetcher** | `market_data/*` | + Tick JSON<br>+ Candle dict<br>+ raw News JSON (→ GCS) |
| **IndicatorEngine** | `indicators/*` | ← Candle deque<br>→ factors dict {ma10, rsi, …} |
| **Regime & Focus** | `analysis/regime_classifier.py` / `focus_decider.py` | ← factors<br>→ macro/micro レジーム・weight_macro |
| **GPT Decider** | `analysis/gpt_decider.py` | ← focus + perf + news<br>→ JSON {focus_tag, weight_macro, weight_scalp, ranked_strategies} |
| **Strategy Plugin** | `strategies/*` | ← factors<br>→ dict {action, sl_pips, tp_pips, confidence, tag} or None |
| **Exit Manager** | `execution/exit_manager.py` | ← open positions + signals<br>→ list[{pocket, units, reason, tag}] |
| **Risk Guard** | `execution/risk_guard.py` | ← lot, SL/TP, pocket<br>→ bool (可否)・調整値 |
| **Order Manager** | `execution/order_manager.py` | ← units, sl, tp, client_order_id, tag<br>→ OANDA ticket ID |
| **Logger** | `logs/*.db` | 全コンポーネントが INSERT |

### 2.1 共通データスキーマ

```python
from pydantic import BaseModel, Field
from typing import Literal, Optional, List

class Tick(BaseModel):
    ts_ms: int
    instrument: Literal["USD_JPY"]
    bid: float
    ask: float
    mid: float
    volume: int

class Candle(BaseModel):
    ts_ms: int                # epoch ms (UTC)
    instrument: Literal["USD_JPY"]
    timeframe: Literal["M1","M5","H1","H4","D1"]
    o: float; h: float; l: float; c: float
    volume: int
    bid_close: Optional[float] = None
    ask_close: Optional[float] = None

class Factors(BaseModel):
    instrument: Literal["USD_JPY"]
    timeframe: Literal["M1","M5","H4","D1"]
    adx: float
    ma10: float
    ma20: float
    bbw: float
    atr_pips: float
    rsi: float
    vol_5m: float

class GPTDecision(BaseModel):
    focus_tag: Literal["micro","macro","hybrid","event"]
    weight_macro: float = Field(ge=0.0, le=1.0)
    weight_scalp: float = Field(ge=0.0, le=1.0)  # macro + scalp <= 1.0, remainder = micro
    ranked_strategies: List[str]
    reason: Optional[str] = None

class StrategyDecision(BaseModel):
    pocket: Literal["micro","macro","scalp"]
    action: Literal["OPEN_LONG","OPEN_SHORT","CLOSE","HOLD"]
    sl_pips: float = Field(gt=0)
    tp_pips: float = Field(gt=0)
    confidence: int = Field(ge=0, le=100)
    tag: str

class OrderIntent(BaseModel):
    instrument: Literal["USD_JPY"]
    units: int                      # +buy / -sell
    entry_price: float
    sl_price: float
    tp_price: float
    pocket: Literal["micro","macro","scalp"]
    client_order_id: str
```

> すべてのコンポーネントは上記モデル（もしくは互換 JSON Schema）で通信し、`logs/*.db` にも生 JSON を残す。

### 2.2 単位・用語の定義

| 用語 | 定義 |
|------|------|
| `pip` | USD/JPY の 1 pip は 0.01。入力/出力とも pip 単位を明記する。 |
| `point` | 0.001。OANDA REST 価格の丸め単位。 |
| `lot` | 1 lot = 100,000 units。`units = round(lot * 100000)`。 |
| `pocket` | `micro` = 短期テクニカル、`macro` = レジーム/ニュース、`scalp` = 超短期・ボラ依存スキャル。口座資金を `pocket_ratio` で按分。 |
| `weight_macro` | 0.0〜1.0。`pocket_macro = pocket_total * weight_macro` を意味する。 |
| `weight_scalp` | 0.0〜1.0。`pocket_scalp = pocket_total * weight_scalp`、残りが micro に配分される。 |

- `price_from_pips("BUY", entry, sl_pips)` = `entry - sl_pips * 0.01` を `round(price, 3)`。
- `price_from_pips("SELL", entry, sl_pips)` = `entry + sl_pips * 0.01` を `round(price, 3)`。
- `client_order_id = f"qr-{ts_ms}-{focus_tag}-{tag}"`。9 桁以内のハッシュを付けて重複防止。

### 2.3 コンポーネント I/O 詳細

- DataFetcher: OANDA streaming で `Tick` を取得し 60s 終端で `Candle` を確定、欠損 tick は遅延として扱う (`lag_ms` を添付)。
- IndicatorEngine: 各 timeframe ごとに `Deque[Candle]` を維持し 300 本以上揃ったときに `Factors` を算出、入力欠損時は `stale=True` を返し Strategy を停止。
- Regime & Focus: macro=H4/D1, micro=M1 の `Factors` を消費し、`focus_decider` は `FocusDecision`(`focus_tag`,`weight_macro`) を返す。
- GPT Decider: 過去 15 分のニュース要約 + パフォーマンス指標を入力し `GPTDecision` を返す（`weight_macro` と `weight_scalp` を明示）。JSON Schema 不一致時はフォールバックを Raise。
- Strategy Plugin: `ranked_strategies` 順に呼び出し `StrategyDecision` または `None` を返す。必ず `confidence` と `tag` を含め、`None` は「ノートレード」。
- Exit Manager: 現在のポジションとシグナルを突き合わせ、逆方向シグナル・イベントロック・指標劣化の各条件でクローズ指示を組み立てる。
- Risk Guard: エントリー/クローズ双方の `StrategyDecision` と口座情報から `OrderIntent` を生成、拒否理由は `{"allow": False, "reason": ...}` としてロガーへ渡す。
- Order Manager: `OrderIntent` を OANDA REST へ送信、結果は `ticket_id` と `executed_price` を返し `logs/orders.db` に保存。

### 2.4 OANDA API マッピング

| Strategy action | REST 注文 | units 符号 | SL/TP 指定 | 備考 |
|-----------------|-----------|------------|------------|------|
| `OPEN_LONG` | `MARKET` | `+abs(units)` | `stopLossOnFill`, `takeProfitOnFill` | `timeInForce=FOK`, `positionFill=DEFAULT` |
| `OPEN_SHORT` | `MARKET` | `-abs(units)` | 同上 | ask/bid 逆転チェック後に送信 |
| `CLOSE` | `MARKET` | 既存ポジの反対売買 | SL/TP 指定なし | `OrderCancelReplace` で逆指値を削除 |
| `HOLD` | 送信なし | 0 | なし | Strategy ループ継続 |

- すべての注文に `clientExtensions = {"id": client_order_id, "tag": pocket}` を付与し、再試行時は同一 ID を再利用する。Exit 指示も同じ ID 命名規則に従い、`qr-{epoch_ms}-{focus_tag}-{strategy_tag}` 形式で 90 日間ユニークにする。
- OANDA 5xx/timeout 時は 0.5s, 1.5s の指数バックオフをかけ、3 回失敗で `Risk Guard` にエスカレーションする。

### 2.5 ログと永続化

- `logs/trades.db`: `trade_id`, `pocket`, `entry_ts`, `exit_ts`, `pl_pips`, `sl_pips`, `tp_pips`, `strategy_tag`, `client_order_id`, `event_mode`。
- `logs/news.db`: `published_at`, `source`, `headline`, `summary`, `url`, `tokens_used`。
- `logs/metrics.db`: `ts`, `metric`, `value`, `tags`。`decision_latency`, `data_lag`, `order_success_rate` 等を保存。
- **運用メモ**: 本番ログは VM (`fx-trader-vm`) 上 `/home/tossaki/QuantRabbit/logs/` にのみ保存。状況確認時は OS Login/IAP 経由で以下のように参照する：
  ```bash
  gcloud compute ssh fx-trader-vm \
    --project=quantrabbit --zone=asia-northeast1-a \
    --tunnel-through-iap \
    --ssh-key-file ~/.ssh/gcp_oslogin_quantrabbit \
    --command "sudo -u tossaki sqlite3 /home/tossaki/QuantRabbit/logs/trades.db \"SELECT DATE(close_time), COUNT(*), ROUND(SUM(pl_pips),2) FROM trades WHERE DATE(close_time)=DATE('now') GROUP BY 1;\""
  ```

---

## 3. ライフサイクル

1. **Startup (`main.py`)**
   1. env.toml 読込 → Secrets 確認
   2. WebSocket 接続確立
2. **Every 60 s**
   1. 新ローソク → factors 更新  
   2. regime + focus → GPT decision  
   3. pocket lot 配分 → Strategy loop（confidence スケーリング + ステージ判定）  
   4. Exit manager → Risk guard → order_manager でクローズ/新規発注  
   5. trades.db / news.db / metrics.db にログ
3. **Background Jobs**
   - `news_fetcher` RSS → GCS raw/  
   - Cloud Run `news‑summarizer`  raw → summary/  
   - `summary_ingestor` summary/ → news.db  
   - nightly `backup_to_gcs.sh` logs/ → backup bucket

### 3.1 60 秒タクトの運用要件

- サイクル開始は正秒同期 (`datetime.utcnow().replace(second=0, microsecond=0)`)、許容誤差 ±500 ms。
- 処理締切は 55 s。締切超過時は当該サイクルを捨て、次のサイクルで再計算する (バックログ禁止)。
- `monotonic()` ベースで `decision_latency_ms` を測定し、遅延は `logs/metrics.db` に記録する。

### 3.2 データ鮮度と完全性

- `max_data_lag_ms = 3000`。これを超える遅延は `DataFetcher` が `stale=True` を返し `Risk Guard` は発注を拒否する。
- Candle 確定は `tick.ts_ms // 60000` の変化で判定し、終値は最後の mid。`volume=0` のローソク足は `missing_bar` としてログ。
- ニュースは `summary_ingestor` が 30 秒毎にポーリング。最新記事が 120 分超なら `news_status=stale` をセット。

### 3.3 発注冪等性とリトライ

- `client_order_id` は 90 日間ユニーク。OANDA `POST /orders` 失敗時は同一 ID で最大 3 回まで再送。
- REST 429/5xx は指数バックオフ (0.5s→1.5s→3.5s) とジッター 100 ms を加える。
- 発注中に WebSocket 停止を検知した場合は `Order Manager` が `halt_reason="stream_disconnected"` を残して停止。

### 3.4 検証パイプライン

- **Record**: `DataFetcher` は全 Tick を `logs/replay/*.jsonl` に保存しテストで再生できる状態を担保。
- **Backtest**: Strategy Plugin は記録データを用い同一 `StrategyDecision` を再現できることを CI で検証。
- **Shadow**: 本番 tick + 仮想アカウントで `OrderIntent` を生成し、`risk_guard` の拒否理由を比較。

### 3.5 エントリー/クローズ制御

- **Confidence スケーリング**: Strategy の `confidence` (0–100) をポケット割当 lot に掛け、最低 0.2 倍〜最大 1.0 倍のレンジで段階的エントリーを行う。  
- **ステージ比率**: `STAGE_RATIOS` で定義されたフラクションに従い、各ステージ条件 (`_stage_conditions_met`) を通過した場合のみ追撃。  
- **Exit Manager**: 逆方向シグナルが閾値 (既定 70) を超えた場合やイベントロック、RSI/ADX 劣化などでクローズ。`allow_reentry` が False の場合は当該サイクル内の再参入を禁止する。
- **Release gate**: PF>1.1, 勝率>52%、最大 DD<5% を 2 週間連続で満たしたら実弾に昇格。

#### 3.5.1 レンジモード強化（2025-10）
- 判定: `analysis/range_guard.detect_range_mode` が M1 の `ADX<=22`, `BBW<=0.20`, `ATR<=6` の同時充足、または H4 トレンド弱含み＋複合スコア閾値超で `range_mode` を返す。`metrics.composite` と `reason` をログ出力。
- エントリー制御: `range_mode=True` の間はマクロ新規を抑制し、許可戦略を BB 逆張り（`BB_RSI`）等に限定。`focus_tag` を `micro` へ縮退、`weight_macro` を上限 0.15 に制限。
- 利確/損切り: レンジ中は TP/SL をタイトに調整（目安 1.5〜2.0 pips の RR≒1:1）。`execution/exit_manager` は含み益が+1.6pips 以上で利確、+0.4pips超はホールド、−1.0pips で早期撤退。
- 分割利確: `execution/order_manager.plan_partial_reductions` はレンジ中のしきい値を（macro 16/22, micro 10/16, scalp 6/10 pips）に低減し早めにヘッジ。
- ステージ/再入場: `execution/stage_tracker` が方向別クールダウンとステージ永続化を提供。強制クローズや連続 3 敗で 15 分ブロック。勝ち負けに応じてロット係数を自動縮小（マーチン禁止）。

実装差分の主な入口
- レンジ判定: `analysis/range_guard.py`
- エントリー選別/SLTP調整/レンジ抑制: `main.py` のシグナル評価・ロット配分周辺
- 早期利確/撤退: `execution/exit_manager.py`
- 分割利確しきい値(レンジ対応): `execution/order_manager.py`
- ステージ永続化/クールダウン/ロット係数: `execution/stage_tracker.py`

---

## 4. 環境変数 / Secret 一覧

| Key | 説明 |
|-----|------|
| `OPENAI_API_KEY` | GPT 呼び出し用 (Decider / Summarizer 共通) |
| `OPENAI_MODEL_DECIDER` | GPT デシジョン用モデル (例: gpt-5-mini) |
| `OPENAI_MODEL_SUMMARIZER` | ニュース要約用モデル (例: gpt-5-nano) |
| `OANDA_TOKEN` / `OANDA_ACCOUNT` | REST / Stream |
| `GCP_PROJECT` / `GOOGLE_APPLICATION_CREDENTIALS` | GCS・Pub/Sub |
| `GCS_BACKUP_BUCKET` | logs バックアップ先 |

---

## 5. トークン & コストガード

* `.cache/token_usage.json` に月累計。  
* `openai.max_month_tokens` (env.toml) で上限設定。  
* 超過時：`news_fetcher` は継続、`gpt_decider` はフォールバック JSON を返す。  
* フォールバック JSON: `{"focus_tag":"hybrid","weight_macro":0.5,"weight_scalp":0.15,"ranked_strategies":["TrendMA","Donchian55","BB_RSI","NewsSpikeReversal"],"reason":"fallback"}`。  
* GPT 失敗時は過去 5 分の決定を再利用 (`reason="reuse_previous"`) し、`decision_latency_ms` を 9,000 で固定計上する。

---

## 6. 安全装置

* **Pocket DD**	: micro 5 %、macro 15 % → 該当 pocket の新規取引停止  
* **Global DD**	: 20 % → プロセス自動終了 (`risk_guard`)  
* **Event モード**	: 指標 ±30 min → micro 新規禁止  
* **Timeout**	: GPT 7 s、OANDA REST 5 s → 再試行 / フォールバック  
* **Healthbeat**	: `main.py` が 5 min ping を Cloud Logging に残す

### 6.1 リスク計算とロット配分

- `pocket_equity = account_equity * pocket_ratio`。`pocket_ratio` は `weight_macro` / `weight_scalp` と `pocket` 固有の上限 (`micro<=0.6`, `macro<=0.8`, `scalp<=0.25`) を掛け合わせる。
- 1 トレードの許容損失は `risk_pct = 0.02`。`risk_amount = pocket_equity * risk_pct`。
- USD/JPY の 1 lot 当たり pip 価値は 1000 JPY。従って `lot = min(MAX_LOT, round(risk_amount / (sl_pips * 1000), 3))`。
- `units = int(round(lot * 100000))`。`abs(units) < 1000` はノイズ扱いで発注しない。
- `clamp_sl_tp(price, sl, tp, side)` は 0.001 単位で丸め、SL/TP 逆転時は 0.1 のバッファを確保。

### 6.2 状態遷移

| 状態 | 遷移条件 | 動作 |
|------|----------|------|
| `NORMAL` | 初期状態 | 全 pocket 取引許可 |
| `EVENT_LOCK` | 経済指標 ±30 min | `micro` 新規停止、建玉縮小ロジック発動 |
| `MICRO_STOP` | `micro` pocket DD ≥5% または `news_status=stale` | `micro` 決済のみ、`macro` 継続 |
| `GLOBAL_STOP` | Global DD ≥20% または `Healthbeat` 欠損>10 min | 全取引停止、プロセス終了 |
| `RECOVERY` | DD が閾値の 80% 未満、24h 経過 | 新規建玉再開前に `main.py` がドライラン |

### 6.3 ニュース・イベント劣化運転

- `news_age_min > 120` で `focus_tag` を強制的に `micro` / `hybrid` へ縮退、`weight_macro` は指数減衰 (`weight_macro *= 0.5`)。
- RSS 取得失敗が 5 回連続した場合は `news_fetcher` が削除せずリトライを継続しつつ Slack へ通知。
- 週末・祝日ギャップは 金曜 21:55Z〜日曜 21:35Z を取引禁止 window とし、自動復帰時に `stale` フラグをクリアする。

### 6.4 観測指標とアラート

- **SLI**: `decision_latency_ms`, `data_lag_ms`, `order_success_rate`, `reject_rate`, `gpt_timeout_rate`, `pnl_day_pips`, `drawdown_pct`。
- **SLO**: `decision_latency_ms p95 < 2000`, `order_success_rate ≥ 0.995`, `data_lag_ms p95 < 1500`, `drawdown_pct max < 0.18`, `gpt_timeout_rate < 0.05`。
- **Alert**: SLO 違反、`healthbeat` 欠損 5 分超、`token_usage ≥ 0.8 * max_month_tokens`, `news_status=stale 10 min`, `order reject` 連続 3 件。

---

## 7. デプロイ手順 (要約)

```bash
gcloud builds submit --tag gcr.io/$PROJ/news-summarizer
cd infra/terraform && terraform init && terraform apply
gcloud compute ssh fx-trader-vm --command "git pull && ./startup.sh"
```

- デプロイ前に `terraform plan` を CI で実行し差分確認、サービスアカウントは最小権限 (`roles/storage.objectAdmin`, `roles/logging.logWriter`, 必要な Pub/Sub Roles)。
- Cloud Build 成功時に `cosign sign` でイメージ署名、SBOM (`gcloud artifacts sbom export`) を保存。
- 予算アラート: `GCP Budget Alert ≥ 80%` で Slack 通知、IAP トンネルは `roles/iap.tunnelResourceAccessor` を必須化。
- ロールバック手順: `gcloud compute ssh fx-trader-vm --command "cd ~/QuantRabbit && git checkout <release-tag> && ./startup.sh --dry-run"` を実行し、検証後に `--apply`。

### 7.1 VM デプロイ（Git フロー標準）

ローカル → リモート（origin）へ push → VM で `git pull` → systemd 再起動の流れをスクリプト化しています。

前提条件
- OS Login が有効、`roles/compute.osLogin` と（外部 IP 無しの場合）`roles/iap.tunnelResourceAccessor` 付与済み
- VM 側のリポジトリは `origin` が到達可能（例: GitHub）

コマンド例
```bash
# 現在のブランチをデプロイし、VM の venv も依存更新
scripts/deploy_to_vm.sh -i

# 明示的にブランチを指定
scripts/deploy_to_vm.sh -b feature/exit-manager -i

# ログの追尾
gcloud compute ssh fx-trader-vm --zone asia-northeast1-a \
  --command 'journalctl -u quantrabbit.service -f'
```

オプション
- `-b <BRANCH>`: デプロイ対象ブランチ（既定はローカルの現在ブランチ）
- `-i`: VM の venv で `pip install -r requirements.txt` を実行
- `-p <PROJECT>` / `-z <ZONE>` / `-m <INSTANCE>` / `-d <REPO_DIR>` / `-s <SERVICE>`: 環境に応じて上書き可能
- `-k <KEYFILE>`: OS Login 用 SSH 鍵を明示
- `-t`: IAP トンネルを使用（外部 IP 無しでも SSH）

注意点
- ローカルの未コミット変更は push されません。必ずコミットしてから実行してください。
- 直接 SCP での差し替えは緊急時のみ。通常運用は本スクリプト経由の Git ベース反映を推奨します。

OS Login 鍵準備（初回のみ）
```bash
ssh-keygen -t ed25519 -f ~/.ssh/gcp_oslogin_qr -N '' -C 'oslogin-quantrabbit'
gcloud compute os-login ssh-keys add --key-file ~/.ssh/gcp_oslogin_qr.pub --ttl 30d
```
デプロイ例（鍵指定/IAP併用）
```bash
scripts/deploy_to_vm.sh -i -k ~/.ssh/gcp_oslogin_qr -t
```

8. チーム運用ルール
	1.	1 ファイル = 1 PR、Squash Merge、CI green 必須
	2.	コード規約：black / ruff / mypy (optional)
	3.	秘匿情報は 絶対に Git に push しない
	4.	不具合・改善は GitHub Issue で管理（ラベル: bug/feat/doc/ops）

⸻

9. 参考ドキュメント
	•	README.md				 – 🍵 ユーザ向け概観
	•	パッチ適用の推奨シーケンス.pdf – 開発手順ガイド
	•	全体仕様まとめ（最終版）.pdf – アーキテクチャ詳細
	•	OFL.txt + ZenOldMincho-*.ttf – 付属フォントライセンス

---

## 10. GCE SSH / OS Login ガイド

推奨は OS Login。メタデータ `ssh-keys` は OS Login 有効時に無視されます。

- 事前条件
  - IAM: `roles/compute.osLogin` もしくは `roles/compute.osAdminLogin`
  - IAP 経由時は `roles/iap.tunnelResourceAccessor`

- OS Login を有効化（インスタンス）
  - `gcloud compute instances add-metadata fx-trader-vm \
    --zone asia-northeast1-b --metadata enable-oslogin=TRUE`

- キー生成と OS Login 登録（30 日 TTL）
  - `ssh-keygen -t ed25519 -f ~/.ssh/gcp_oslogin_quantrabbit -N '' -C 'oslogin-quantrabbit'`
  - `gcloud compute os-login ssh-keys add \
    --key-file ~/.ssh/gcp_oslogin_quantrabbit.pub --ttl 30d`

- 接続（外部 IP あり）
  - `gcloud compute ssh fx-trader-vm \
    --project quantrabbit --zone asia-northeast1-b \
    --ssh-key-file ~/.ssh/gcp_oslogin_quantrabbit`
  - 直接 SSH する場合（OS Login ユーザ名は `gcloud compute os-login describe-profile` で確認）
    - `ssh -i ~/.ssh/gcp_oslogin_quantrabbit <oslogin_username>@<EXTERNAL_IP>`

- 接続（外部 IP なし / IAP 経由）
  - `gcloud compute ssh fx-trader-vm \
    --project quantrabbit --zone asia-northeast1-b \
    --tunnel-through-iap \
    --ssh-key-file ~/.ssh/gcp_oslogin_quantrabbit`

- トラブルシュート
  - `Permission denied (publickey)` の典型:
    - OS Login が有効か: `enable-oslogin=TRUE`（プロジェクト/インスタンス）
    - IAM に osLogin 権限があるか
    - OS Login に公開鍵が登録されているか（TTL 期限切れに注意）
    - `gcloud compute ssh ... --ssh-key-file` で鍵を明示
    - 詳細: `gcloud compute ssh ... --troubleshoot`
  - 組織ポリシー `compute.requireOsLogin` が強制の場合、メタデータ鍵は使えません。

- 代替（OS Login を使わない場合）
  - OS Login を無効化: `... add-metadata ... --metadata enable-oslogin=FALSE`
  - 公開鍵をメタデータに登録: `--metadata-from-file ssh-keys=ssh-keys.txt`
  - ただしセキュリティ・運用上 OS Login 利用を推奨。
