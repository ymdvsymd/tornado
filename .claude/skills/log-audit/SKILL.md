---
name: log-audit
description: >
  whirlwind実行ログを分析し、バグ・パフォーマンスボトルネックを検出してbdチケットを起票する。
  最新の.runsログを自動検出、またはパス指定可。タイムライン構築→異常検出→レポート→チケット起票。
  "log-audit", "ログ分析", "バグ検出", "ログレビュー", "run分析", "audit log", "analyze log".
arguments: log_path:whirlwind.logのパス（省略時は.runs/内の最新ログを自動検出）
---

# log-audit: whirlwind 実行ログ分析 → バグ検出 → チケット起票

## 引数

```
/log-audit [<path-to-whirlwind.log>] [--priority=<0-4>] [--dry-run]
```

- `<path-to-whirlwind.log>`: 分析対象のログファイルパス。省略時は `.runs/` 内の最新 `whirlwind.log` を自動検出
- `--priority=<0-4>`: 起票するチケットのデフォルト優先度（デフォルト: 2）
- `--dry-run`: チケットを起票せず、検出結果のレポートのみ出力

`$ARGUMENTS` の内容: `$ARGUMENTS`

---

## Phase 1: ログファイル特定

1. `$ARGUMENTS` を解析する:
   - 最初の `--` で始まらないトークンを `LOG_PATH` とする
   - `--priority=<value>` があれば `DEFAULT_PRIORITY` に格納（デフォルト: 2）
   - `--dry-run` があれば `DRY_RUN=true`

2. `LOG_PATH` が未指定の場合、最新ログを自動検出:

   ```bash
   ls -dt .runs/*/whirlwind.log 2>/dev/null | head -1
   ```

   ログが見つからない場合はエラーメッセージを出して終了。

3. ログファイルを読み込み、行数を確認。ログが大きい場合は分割して読む。

---

## Phase 2: タイムライン構築

ログを解析し、以下の構造化データを構築する:

### 2-1. セッション一覧の抽出

`[INFO] Session initialized:` 行からセッション情報を抽出:
- タイムスタンプ
- model 名
- tools 数
- ロール（planner / builder / verifier — 直前の context から判定）

### 2-2. Result 行の解析

`[INFO] Result:` 行から以下を抽出:
- success / failure
- cost（$金額）
- duration（秒）
- api 時間（秒）
- turns 数
- tokens（input / output / cache_read）

### 2-3. タイムラインテーブルの構築

以下の情報をフェーズごとに整理する:
- Planner: 起動→完了の所要時間、コスト
- Builder Wave N: 各タスクの並列実行時間、トークン量
- Verifier: 各観点（CodeQuality / Performance / Security / GoalAlignment）の所要時間、コスト
- 全体の開始→完了時間

---

## Phase 3: 異常検出

以下の観点で異常を検出する。各項目にはタグを付与する。

### 3-1. `[BUG]` タイムスタンプ異常

- 同一セッション内の全イベントが同じタイムスタンプ → 「ログタイムスタンプバッチング」
- タイムスタンプが逆順になっている → 「タイムスタンプ逆転」

### 3-2. `[BUG]` 計測値の不整合

- `api > duration` → 「API時間が壁時計時間を超過」
- `cost` が負値または異常に大きい → 「コスト異常値」
- `turns` が 0 なのに result が success → 「ターン数不整合」

### 3-3. `[BUG]` ビルダー間衝突

- 同一 Wave 内の複数ビルダーが同じファイルを編集した痕跡を検出:
  - `[OUT] [builder]` の出力に同一ファイルパスへの変更言及が複数タスクで出現
  - 「revert」「reverted」「undo」等のキーワードを含む出力

### 3-4. `[PERF]` トークン効率

- Input tokens が 500K を超えるビルダーセッション → 「過大な入力トークン」
- Output / Input 比率が 1:100 以下 → 「極端な入出力比」
- cache_read 率が 90% 以上 → 情報として記録（異常ではないが注意）

### 3-5. `[PERF]` コスト異常

- 同種 Verifier 観点間でコストが 2 倍以上乖離 → 「Verifier コスト不均衡」
- Planner のコストが全体の 30% 超 → 「Planner コスト比率過大」

### 3-6. `[BUG]` 機能面

- `[OUT] [builder]` に「failed」「failure」「error」を含むが Result は success → 「偽成功の可能性」
- Verifier が問題を検出しつつ `<wave_approved>` を出力 → 「問題検出後の無条件承認」
- 「pre-existing」「unrelated」等で既存バグを報告しつつスキップ → 「既存バグの放置」

---

## Phase 4: レポート出力

ユーザーに以下の形式でレポートを提示する:

```markdown
## whirlwind ログ分析レポート

**ログ**: <ファイルパス>
**実行時間**: <開始> → <終了> (合計 X分Y秒)
**総コスト**: $X.XX (planner: $X.XX, builder: N/A, verifier: $X.XX)

### タイムライン
| 時刻 | イベント | 所要時間 |
|------|---------|---------|
| ... | ... | ... |

### 検出事項 (N件)

#### [BUG] タイトル (重大度: 高/中/低)
- **現象**: ...
- **該当行**: line XX-YY
- **推奨優先度**: P1

#### [PERF] タイトル
- **現象**: ...
- **数値**: ...

### トークン使用量サマリー
| タスク | Input | Output | Cache率 |
|--------|-------|--------|---------|
| ... | ... | ... | ... |
```

---

## Phase 5: チケット起票

1. `DRY_RUN=true` の場合、レポートを出力して終了。

2. ユーザーに検出事項一覧を提示し、チケット化する項目の確認を求める:
   - 各項目の推奨優先度を表示
   - ユーザーが優先度を変更可能
   - ユーザーが除外する項目を選択可能

3. 確認後、`bd create` で一括起票:

   ```bash
   bd create --title="<タイトル>" --description="<詳細>" --type=bug --priority=<N>
   ```

   - `[BUG]` タグ → `--type=bug`
   - `[PERF]` タグ → `--type=task`（改善タスク）
   - description にはログの該当行番号、再現手順、修正方針を含める

4. 起票結果のサマリーを表示:

   ```markdown
   ### 起票済みチケット
   | ID | タイトル | 優先度 | タイプ |
   |----|---------|--------|--------|
   | tornado-xxx | ... | P1 | bug |
   ```

---

## エラーハンドリング

- ログファイルが見つからない → エラーメッセージを出して終了
- ログが空 or 不正な形式 → 「解析不可」としてエラー出力
- `bd` コマンドが利用不可 → チケット起票をスキップし、レポートのみ出力
- 異常が 0 件 → 「異常は検出されませんでした」と報告して正常終了
