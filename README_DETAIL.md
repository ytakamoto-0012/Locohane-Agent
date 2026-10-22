# Locohane-Agent 詳細ドキュメント（ローカルAIエージェント基盤 / SKILL.md 標準準拠）

> 概要・かんたんな導入手順・基本的な使い方は [README.md](README.md) を参照。
> 本書は設計・ディレクトリ構成・設定項目・運用の詳細をまとめた、管理者・開発者向けの資料。

完全オフラインで動作する AI エージェント基盤。スキル定義は Anthropic 公開の
**Agent Skills 標準（SKILL.md 形式）** に準拠する。
仕様: <https://agentskills.io/specification>

設計方針は「薄く・透明に」。賢い仕掛け（動的 import・ホットリロード・メタクラス）は使わない。
起動時に `skills/` を走査して読む、それだけ。ファイルの保存・削除のパスとタイミングが
コードから明確に追える状態を最優先する。

![Locohane](public/settings/icon.png)

名前の由来：**Lo**cal（ローカル環境）+ 小羽（**cohane** / 軽量さ・和名っぽさ）

## このプロジェクトの目的

このプロジェクトは、セルフホストによるサーバー駆動で職場やグループ単位で複数のユーザーが同時に使えて、
高性能な大規模パラメータモデルではなく、低パラメータモデルでも安定して Agent がタスクをこなせるようにすることを目指す。

想定する用途は、設計業務のようにミスが許されない専門業務である。そのため、性能の伸びよりも
結果の再現性（ばらつきの小ささ）を優先する。スキル・プロンプトの育成も、エージェントが自分の
スキルを自動で書き換える「自己進化」型は採らない。製造の量産立ち上げで同じ工程を何十〜百回と
繰り返して安定性を確かめるのと同じ考え方で、変更のたびに実際のローカルLLMで同じ評価を繰り返し
回し（**スキル安定化トライアウト**）、全回通ることを確かめてから取り込む
（「プロンプト資産の自動チューニングループ（evals/）」参照）。エージェント自身が行うのは
永続メモリーへの記録（課題と対策）と、作成者本人だけが使えるドラフトスキルの作成までで、
それを正式な手順へ反映するかどうかは、外側の評価とスキル開発者の承認を通して判断する
（「ドラフトスキル（ユーザー別）と昇格」参照）。

- **パスメモリー機能**（`src/path_memory.py`、`system_prompt.md` の
  Tool Usage Guidelines）: `Glob`/`Grep`/`Read` の結果に短い参照番号 `@N`
  を自動付与し、LLM が長い絶対パスを自分で組み立て直して失敗を繰り返すことを防ぐ。
- **ループ検知・ガード・リトライ**（`config.ini` の `[thinking_loop_guard]`、
  `src/llm/chat_model.py` の `ChatLlamaCpp`、`src/llm/loop_guard.py` の
  `ThinkingLoopDetected`）: 応答が反復ループに
  陥ったことを検知してナッジメッセージを注入・自動リトライする。上限を超えても
  フリーズしないよう、`app.py` 側で打ち切りメッセージを出して終了する。
- **glob 機能の拡張**（`src/tools/glob_tool.py` の `Glob`、共通ロジックは
  `src/tools/_file_tools_common.py`）:
  通常の glob 結果に加え、一致件数・ディレクトリ一覧・パスメモリー参照を返し、
  LLM が探索範囲を自己修正しやすくする。
- **read-only 権限境界と explore サブエージェントへの強制委譲**（`src/tools/registry.py`
  の `_SUBAGENT_TOOLS`、`agents/explore.md`、`system_prompt.md` の
  Task Delegation）: 探索作業を読み取り専用のサブエージェントへ切り出し、
  リクエスト1回あたりのトークン使用量を分散させて安定化する。加えて
  `config.ini` の `[main_agent_tool_guard]` が、メインエージェント自身による
  `Read`/`Grep`/`analyze_image` 等トークン消費の大きい重量系ツール・スキル
  スクリプトの直接呼び出しをホワイトリストで制限し、委譲を事実上強制する。
- **メインエージェントのトークン量上限設計**（`agents/worker.md`、
  `src/main_token_guard.py`、`src/context_trim.py`、`config.ini` の
  `[graph] token_guard_*`）: メインエージェントは司令塔であり、不安定化すると
  タスク全体が破綻するため「1リクエストあたりのトークン数を目安128,000以下に
  保つ」ことを設計原則としている（当初は64,000未満を目安としていたが、以下の
  対策の改善が進み128,000まで安定して扱えるようになった）。大量ファイル処理でサブエージェントの読み取り
  結果をメインへ全文返させると、トークン量が単調増加し無応答のまま停止する
  （実測: 297枚の画像処理で1リクエストあたり24,833→128,000トークンまで増加し、
  当時のコンテキスト上限に達して停止した事例あり。目安の128,000はこの事例の
  停止点ではなく、現在の構成（`--ctx-size 256000`）で安定して扱える範囲として
  決めたもの。`[graph] token_guard_soft_threshold` は目安ではなく、それを超えて
  増え続けた場合の安全装置として、コンテキスト長から余裕を引いた値にしている）。対策として、読み取りから書き出しまでを内部で完結させ
  メインへは処理件数・失敗分のみ返す書き込み可能サブエージェント `worker` を
  用意している。`worker`が正常終了する前提の対策のため、途中でトークン上限に
  達して打ち切られた場合の保険として `write_scratch_note` があり、サブエー
  ジェントが調査の節目ごとに分かった内容をスクラッチファイルへ追記しておく
  ことで、打ち切り時も委譲元へファイルのパスだけ引き継げば続きを判断できる。
  加えて `context_trim` による切り詰めと `main_token_guard` による引継ぎ
  プロンプト自動生成で多重に補強している。
- **bash/npm 相当のツールを持たせない設計**（`src/tools/` の `run_script`
  系ツール、`create_plan`/`approve_plan`、`_GUARD_BLOCKED_CMDS`）: 低パラメータ
  モデルに任意コマンド実行を許すと暴走・誤操作のリスクが高いため、汎用シェル・
  bash・npm に相当するツールは一切公開しない。コマンド実行はスキル配下に
  事前定義された `run_script`（ホワイトリスト方式）のみに限定し、書き込み系
  ツールはすべて `create_plan`→`approve_plan` によるユーザー承認を得るまで
  実行をブロックする。任意コード実行が可能な `execute_python_code` でも
  git/npm/pip の起動とプロジェクト外への書き込みをガードで遮断し、最低限の
  破壊的操作を防いでいる。
- **文書生成スキルの「ops JSON DSL」設計**（`skills/pptx-create`・`skills/excel-edit`・
  `skills/docx-create` の `scripts/_*.py`）: 上記「bash/npm相当のツールを持たせない
  設計」を xlsx/pptx/docx 生成にも一貫して適用したもの。`python-pptx`/`openpyxl`/
  `python-docx` の生コードを LLM に書かせるのではなく、有限個の `op`（`set_range`/
  `add_chart`/`format_table` 等）と JSON スキーマへ閉じ込めることで、低パラメータ
  モデルでも構文エラーやファイル破損なく確実に動く操作だけに絞っている（Anthropic
  公式の `skills/pptx`・`skills/xlsx` 等は逆に、Claude自身の事前知識に頼って
  `python-pptx`/`openpyxl` の生コードを直接書かせる設計で、SKILL.md はライブラリ
  API そのものではなく「落とし穴」だけを補足する差分ドキュメントになっている）。
  見た目の一貫性のため、`pptx-create`/`excel-edit`/`docx-create`/`pdf-tools` は
  同じ8色の配色テーマ（`charcoal`/`navy` 等、Anthropic公式pptxスキルのDesign
  Ideas準拠）を共有している。`pdf-tools`（`create_pdf.py`）だけは例外的に
  セマンティックHTML（自前パーサーで`reportlab`のFlowableへ変換、JS実行なし）を LLM に直接書かせている —
  HTML は xlsx/pptx/docx の XMLベース形式と違い多少崩れても致命的にファイルが
  壊れないため、この原則の範囲内で安全に表現力を確保できる。
- **設定ダッシュボードによる複数インスタンス運用**（`admin/` パッケージ、
  `admin.bat`）: 「職場やグループ単位で複数のユーザーが同時に使える」を
  設定面でも支える独立した管理ツール。`config.ini`・`public/settings/`・
  ログインユーザーをテキストエディタなしでブラウザUIから変更できるのに加え、
  Locohane本体を**複数のインスタンスとして同時に起動・停止・再起動**できる
  （例: 別のモデル・別の接続先で動く2つ目のインスタンスを追加する等）。
  各インスタンスは会話履歴・永続メモリー・アップロード等のデータ、設定の
  上書き差分（`instances/<名前>/config_overrides.json`）、ログインユーザーが
  完全に分離され、多重起動によるデータ破損は排他ロック（`src/instance_lock.py`）
  で防いでいる。詳細は「設定ダッシュボード（管理ツール）」を参照。

---

## アーキテクチャ

```
                 ┌──────────────────────────────────────────────┐
   ブラウザ ───▶ │  app.py (Chainlit UI)                        │
                 │   - @cl.on_message でユーザー入力を受ける      │
                 │   - astream_events でトークンをストリーム表示  │
                 │   - ツールコールを cl.Step で可視化            │
                 │   - approve_plan の承認を                      │
                 │     cl.AskActionMessage で確認（承認/拒否）    │
                 └───────────────┬──────────────────────────────┘
                                 │ 実行
                 ┌───────────────▼──────────────────────────────┐
                 │  src/graph.py  ReAct ループ（実装2種を切替）   │
                 │                                               │
                 │  handwritten: START→[agent]⇄[tools]→END       │
                 │    （手書き StateGraph。挙動を自前配線）        │
                 │  prebuilt   : create_react_agent に委譲        │
                 │    （config.ini [graph] implementation で選択）│
                 └───┬───────────────────────────┬──────────────┘
                     │ モデル呼び出し             │ ツール実行
       ┌─────────────▼───────────┐   ┌───────────▼──────────────────────┐
       │ ChatOpenAI              │   │ src/tools/ (41ツール)               │
       │  → llama-server /v1     │   │  read_skill / read_skill_file /    │
       │  (OpenAI 互換)          │   │  run_script / execute_python_code /│
       └─────────────────────────┘   │  get_tool_source / check_work_dir_status /│
                                      │  Read / Glob / Grep / json_query / │
                                      │  search_path_memory / analyze_image /│
                                      │  dispatch_agent / create_plan /    │
                                      │  approve_plan / update_task_progress/│
                                      │  get_plan_status / lock_plan_mode /│
                                      │  AskUserQuestion / ask_user_choice /│
                                      │  provide_download /                │
                                      │  create_memory / update_memory /   │
                                      │  delete_memory / read_memory /     │
                                      │  search_memory / list_memories /   │
                                      │  list_document_collections /       │
                                      │  search_documents / help           │
                                      │  （skills/ ファイル操作は配下限定、 │
                                      │   Read/Glob/Grep は任意の絶対パス） │
                                      └───────┬───────────────┬──────────┘
                                              │ 走査/読込/実行  │ 読み書き
       起動時 ┌─────────────────────────────┐  │   ┌────────────▼───────────┐
   Discovery │ src/skills.py                │◀─┘   │ src/memory.py           │
    (第1段階) │  skills/ を走査し             │      │  data/memory/ 配下に    │
             │  name+description を          │      │  User/Feedback/Project/│
             │  システムプロンプトへ注入      │      │  Reference の4種を保存 │
             └─────────────────────────────┘      │  MEMORY.md 索引を       │
                                                    │  {{memory}} へ差し込み │
   会話状態 ┌──────────────────────────────┐      └────────────────────────┘
           │ AsyncSqliteSaver              │   ┌────────────────────┐
           │  → data/checkpoints.sqlite   │   │ skills/            │
           └──────────────────────────────┘   │  <name>/SKILL.md   │
                                                │  <name>/scripts/   │
                                                │  <name>/references/│
                                                │  <name>/assets/    │
                                                └────────────────────┘
```

`dispatch_agent` のみ、`src/subagent.py` 内で独立した ReAct ループを回す特殊なツールで、
その内部のツール呼び出し（`read_skill`/`read_skill_file`/`run_script`/`execute_python_code` 等、
`agent_type` で選んだ種別が持つツールに限る）は親の会話履歴・グラフトレースには乗らない
（コンテキスト節約のため意図的な設計）。種別定義は `agents/*.md`（`name`/`description`/`tools`/`model`
の frontmatter、ClaudeCode の `.claude/agents/*.md` 相当）を起動時に走査して読み込む。

`model`（任意）には `[llm].sub_url` の接続先の `model` 名を書く。指定するとその種別のサブエージェントは、
`sub_url` のうち `model` が一致する（大文字小文字は区別しない）接続先だけを候補にして `sub_routing_strategy` に従って接続先を選ぶ
（`sub_url` 未指定でメインの接続先を継承する場合も、継承先が指定モデルでなければ指定モデルの接続先から選ぶ）。
`model: inherit`（ClaudeCode の定義ファイル由来）と空文字は指定なしとして扱う。
一致する接続先が無い（または全て `start`/`end` の時間帯外の）場合は下記 `[llm].sub_default_model`、それも使えなければ指定を無視し、通常のルーティング規則に従う。
`dispatch_agent`/`dispatch_agent_batch` の `model` 引数でも1回の委譲ごとに指定でき、frontmatter より優先される。
どちらも無い（または指定モデルが使えない）場合は `[llm].sub_default_model`（空欄なら従来どおりモデル名を見ずに選ぶ）が同じ扱いで使われる。
`sub_url` 未指定でメインの接続先を引き継ぐ設定でも `sub_default_model` は有効なため、メインが別モデルの接続先を
使っていると引き継がず、`main_url` のうち `sub_default_model` のモデルの接続先から選ぶ点に注意
（メインと同じ接続先を使わせたいなら空欄にする）。
ジョブ内の再構築・圧縮用のモデル構築にも同じ指定が適用される（`src/llm/routing.py` の `_PREFERRED_SUB_MODEL`）。

```markdown
---
name: explore
description: ...
tools: read_skill, Read, Grep
model: Qwen3.6-35B-A3B
---
```

起動時に `[paths].project_locohane_dir`（既定 `.locohane`）配下の `LOCOHANE.md`
（存在すれば）も読み込まれ、システムプロンプトの `{{project_instructions}}` へ
差し込まれる（ClaudeCode の CLAUDE.md 相当、`src/project_instructions.py` 参照）。

### progressive disclosure（3 段階）の実装場所

| 段階 | 内容 | 実装 |
|------|------|------|
| 1. Discovery | 起動時に各 `SKILL.md` の frontmatter（name/description）のみ注入 | `src/skills.py` |
| 2. Read | LLM がスキルを選び、`read_skill` で本文全体を読む | `src/tools/read_skill.py` |
| 3. Execute | 本文の指示に従い `read_skill_file`/`run_script` で必要時のみ読む・実行 | `src/tools/read_skill_file.py`/`src/tools/run_script.py` |

第2段階の `read_skill` まわりの補足:

- **スキル名の選択肢制約**: 起動時に `init_tools(skill_names=...)` が `read_skill` の `skill_name` 引数を
  実在スキル名の `Literal` 型へ差し替える（`apply_skill_name_enum`）。LLM へ送る tools スキーマに
  `"enum": [...]` が載り、一覧外の名前はツール本体に届く前に検証エラーとして LLM へ返る。
- **返す内容**: frontmatter を除いた本文を `<skill_content name="...">` で囲み、`references/` があれば
  ファイル一覧を `@N`（パスメモリー）付きで末尾に添える（中身は読まない）。`read_skill_file` は
  この `@N` をそのまま受け付ける（skills ルート外を指す `@N` は拒否）。
- **コンテキスト削減からの保護**: スキル名ごとに最後に読んだ `read_skill` 結果は `[context_trim]` で
  切り詰めない（`src/context_trim.py`）。`[context_compaction]` で要約対象に入った場合も要約させず、
  要約の後ろへ原文のまま再添付する（`src/context_compaction.py` の `_render_reattached_skills`、
  上限は `skill_reattach_max_chars_per_skill`/`skill_reattach_total_max_chars`）。

スキル読み込みは **すべて LangGraph のツールコール** として実装しており、グラフのトレースに乗り
Chainlit 側で「今このスキルを読んでいます」等のステップとして可視化される。

### ビルトインツール一覧とLLMへの公開方法

「ビルトインツール」とは、スキル本文とは独立して常時 LLM に公開される、状態を持たない
関数群を指す（対して SKILL.md は「知識・手順書」であり、それ自体はツールではない。
LLM は `read_skill`/`read_skill_file`/`run_script` という**ビルトインツール**を経由して
間接的にスキル本文やスクリプトへアクセスする）。

**LLM への認識のさせ方**: system_prompt.md 等のテキストへツールの説明を埋め込む
方式（プロンプトベース）では**ない**。OpenAI 互換 API の `tools` パラメータとして
リクエストのたびに構造化データで送信する方式を取る。

1. 各ツールは `src/tools/` パッケージ配下（ツール1つにつき原則1ファイル）で LangChain の
   `@tool` デコレータ付き関数として定義する。関数の docstring が `description`、
   型ヒント付き引数が JSON Schema の `parameters` に自動変換される
   （`langchain_core.tools.tool` の標準機能。本プロジェクト側に独自の変換コードはない）。
2. `get_all_tools()`（`src/tools/registry.py`）がビルトインツールと MCP 由来の動的ツールを
   合流させたリストを返す。
3. `src/graph.py` の `build_model(config).bind_tools(get_all_tools())`（サブエージェント側は
   `src/subagent.py`）が、このリストを `ChatOpenAI` 系クラス（`src/llm/chat_model.py` の
   `ChatLlamaCpp`）に紐付ける。
4. 実際の HTTP リクエスト送信時、`bind_tools` で渡した関数群が OpenAI Function Calling
   形式の `tools` 配列へ変換され、`base_url`（llama-server の `/v1` エンドポイント）
   宛のリクエストボディに含まれる。LLM 側の応答に含まれる `tool_calls` を
   LangGraph が受け取り、対応する Python 関数を実行する。

つまり LLM が「どんなツールが使えるか」を知る手がかりは、システムプロンプトの文章では
なく、**リクエストごとに送られる `tools` フィールドそのもの**である
（`name`/`description`/`parameters` 込みで、モデルの Function Calling 機能が解釈する）。
スキルの frontmatter（name/description）だけはこれとは別に、`src/skills.py` が
起動時にシステムプロンプトへテキスト注入する（Discovery 段階、こちらはプロンプトベース）。

上記3段階に加えて、スキルの読み込みとは独立したツールが以下の41個ある（いずれも `src/tools/` パッケージ配下、ツール1つにつき原則1ファイル）。

| ツール | 役割 |
|--------|------|
| `read_skill` | スキルの SKILL.md 本文全体を読み込む（progressive disclosure 第2段階） |
| `read_skill_file` | skills ディレクトリ配下のファイルを読み込む（references/assets 等。progressive disclosure 第3段階） |
| `run_script` | スキルの scripts/ 配下のスクリプトを実行する（要承認。`config.ini` で承認不要に切替可）。完了までブロックするため、タイムアウトに近い長時間実行が見込まれる場合は `run_script_background` を使う |
| `run_script_background` | `run_script` と同じスクリプトを起動する（要承認は同様）。完了までの間、進捗（経過秒数・途中出力）をチャットへ直接通知しながら待つため、LLM自身がポーリングする必要は無い。設定した安全上限（`[scripts].background_inline_wait_max_seconds`）を超えてもなお完了しない場合のみ `job_id` を返してターンを終える |
| `check_script_job` / `stop_script_job` | 上記の安全上限超過フォールバック時のみ使う、ジョブの状況確認・強制終了。実行中ジョブへの連続 `check_script_job` 呼び出しは `[scripts].background_min_poll_interval_seconds` 未満の間隔だとサーバー側で拒否される |
| `execute_python_code` | LLMが生成したPythonコードをその場で実行（要承認。`config.ini` で無効化可）。完了までブロックするため、タイムアウトに近い長時間実行が見込まれる場合は `execute_python_code_background` を使う。code内で `@N`（パスメモリ）を参照する場合は `AGENT_SRC_DIR` 環境変数経由で `path_memory.resolve()` を呼んで実パスへ展開する必要がある。実行前ガードにより `src/`・`app.py`・`config.ini`・`skills/` 等プロジェクトフォルダ配下への書き込み・削除・改名はブロックされる。書き込み先は、ユーザーが作業フォルダ（後述「作業ディレクトリの切り替え」参照）を指定していればそのフォルダ、未指定なら `default_workdir` 配下でも自セッション専用の一時領域 `_tmp_<name>` に限られる（`default_workdir` 直下への書き込みは、別セッションの誤動作を防ぐため許可しない） |
| `execute_python_code_background` | `execute_python_code` と同じコードを起動する（要承認・`config.ini` での無効化・パスメモリ展開・プロジェクトフォルダ保護ガードは同様）。`run_script_background` と同じく完了まで進捗通知しながら待ち、状況確認・停止（安全上限超過時のみ）は共通の `check_script_job`/`stop_script_job` を使う |
| `execute_python_code_readonly` | `execute_python_code` の読み取り専用版（ファイル書き込み不可、承認不要）。`explore` 等の読み取り専用サブエージェント種別（`agents/*.md` の `tools:`）にのみ付与され、メインエージェントは持たない |
| `write_scratch_note` | 調査中に分かった内容をスクラッチファイルへ追記する。計画未承認でも常に呼べ、書き込み先はツール自身が決めるため任意パスには書けない。トークン上限打ち切り時の引き継ぎ用途 |
| `write_thread_note` / `list_thread_notes` / `read_thread_note` | 同一スレッド内に閉じたスレッド共有ノート（後述「スレッド共有ノートとの違い」参照）。委譲元・委譲先間で調査結果の詳細を引き継ぐための、`write_scratch_note`とは別系統のメモ機構。主エージェント・全サブエージェントが読み書き可能 |
| `get_tool_source` | `run_script` がエラーになった際、原因調査用にスクリプトの絶対パスを返す（中身は返さない） |
| `check_work_dir_status` | 現在の作業ディレクトリの実際のアクセス状況を確認する |
| `Read` / `Glob` / `Grep` | ローカルファイルシステム上の任意の絶対パスに対する読込・ファイル名検索・全文検索（ClaudeCode の同名ツールに合わせた名前。読み取り専用のため計画未承認でも常に呼べる。ロジックは `src/tools/read_tool.py`/`glob_tool.py`/`grep_tool.py`、共通処理は `_file_tools_common.py`） |
| `json_query` | JSON/dict に対する JMESPath クエリ（読み取り専用） |
| `search_path_memory` | 現在の会話のパスメモリー（`@N`）から、ファイル名等に似たパスを類似検索する（文字bigram＋コサイン類似度、読み取り専用） |
| `provide_download` | 既存のファイルをチャット画面にダウンロードボタンとして提示する |
| `analyze_image` | 画像ファイルをLLMへ視覚情報として見せ、LLM自身が内容を解析・説明・判断する（Vision対応モデル向け）。`show_in_chat=True` を指定すると、解析と同時にチャット画面へもプレビュー表示する（「表示して」「見せて」にはこちらを使う。表示だけして中身を見ない、という呼び方はできない）。回答本文（Markdownテーブルのセル等）の中に画像を組み込みたい場合は、ツールを使わず回答テキストへ直接 `![説明](絶対パス)` と書けばよい（送信直前に自動でブラウザから取得可能なURLへ変換される。`app.py` の `_embed_local_images_as_session_urls`） |
| `dispatch_agent` | タスクをサブエージェント（`src/subagent.py`）へ委譲し最終回答のみ受け取る。`agent_type` 引数でサブエージェントの種別を必ず指定する（暗黙の既定値は無い）。種別定義は `agents/*.md`（ClaudeCode の `.claude/agents/*.md` 相当）。`.locohane/agents/*.md` ともマージ走査され、同名は `.locohane/agents` 側が優先される。任意の `orchestrator_skill` 引数（複数SKILLを横断的に使うオーケストレーター役SKILL.mdのスキル名）を指定すると、そのSKILL.md本文全体がtaskの先頭へ機械的に注入され、必須ルール・禁止事項の要約時の脱落を防ぐ（詳細は `skills/SKILLS_README.md` 7節）。任意の `model` 引数で `[llm].sub_url` のモデル名を指定でき、`agents/*.md` の frontmatter `model` より優先される（存在しないモデル名は無視）。完了までの間、進捗（経過時間・反復回数）をチャットへ直接通知しながら待つため、LLM自身がポーリングする必要は無い。設定した安全上限（`[subagent].background_inline_wait_max_seconds`）を超えてもなお完了しない場合のみ `job_id` を返してターンを終える |
| `dispatch_agent_batch` | フォルダ内の多数のファイルへ同じ処理を行う作業を、複数のサブエージェントへ並列に委譲する。`pattern`（`path`からの相対。`/`を含まなければ直下のみ、`*/ocr_md/*.md`・`**/*.jpg`のように階層を含めればサブフォルダも探索。`{a,b}`展開可。`..`等で`path`の外に出るファイルは対象外）に一致するファイルを`path`からの相対パス順に取得し、`group_size`件ずつに分けて各グループの task 末尾へ担当ファイルの絶対パスを機械的に付け足し、`dispatch_agent` と同じジョブ基盤（`[subagent].max_parallel` のセマフォ・進捗通知・停止ボタン対応）で並列実行する。LLMは1回呼ぶだけでよく、1応答で複数の `dispatch_agent` を並べる必要が無い（低パラメータモデルでは並列発行が安定しないため）。戻り値はグループごとの状態と最終回答の先頭400文字のみで、全文は thread note に保存する。「エラー」「打ち切り」「強制終了」「未実行」のグループには再委任用に担当ファイルの一覧も載せる。進捗通知はグループごとではなく全グループを集約した1件のみ。1回あたりのグループ数は `[subagent].batch_max_groups` まで（既定50、0以下で無制限。超える場合は起動前にエラー）。安全上限（`background_inline_wait_max_seconds`）超過時は完了済みグループの結果と実行中グループの `job_id` を返す（実行中グループのStepは「バックグラウンド」バッジで閉じる）。LLMのタイムアウト・通信エラーで打ち切られたグループが `[subagent].batch_stop_after_unreachable_groups` 件に達すると、残りのグループは起動せず「未実行」として返す。停止ボタンで中断した場合は、完了済みグループの結果と未完了グループの担当ファイルを thread note に保存し、次のターンの案内にその topic を載せる |
| `check_dispatch_agent_job` / `stop_dispatch_agent_job` | 上記の安全上限超過フォールバック時のみ使う、ジョブの状況確認・強制終了 |
| `create_plan` / `approve_plan` / `update_task_progress` | 複数ステップの実行計画を作成・承認・進捗更新（承認後は`run_script`の個別確認をスキップ）。各ステップは `content`（内容）と `activeForm`（実行中表示用の現在進行形）を持つ |
| `get_plan_status` / `lock_plan_mode` | 現在 Plan Mode（書き込み系ツールがブロックされたロック状態）か Edit Automatically（承認済み計画を実行できる状態）かを確認し、後者から前者へユーザー承認なしに手動で戻す |
| `AskUserQuestion` / `ask_user_choice` | 会話継続に必要な追加情報をユーザーへ質問（`AskUserQuestion` は自由記述。`labels` 省略時は単一入力、指定時は複数項目をまとめて提示。`ask_user_choice` は選択肢形式で、表示される選択肢には常に「✏️ その他（自由入力）」「❌ キャンセル」が自動で追加される） |
| `create_memory` / `update_memory` / `delete_memory` / `read_memory` / `search_memory` / `list_memories` | スレッドをまたぐ永続メモリー（`src/memory.py`）の保存・更新・削除・全文読込・検索・一覧。主エージェントは全6ツールを持つ。`dispatch_agent` のサブエージェントには種別ごとに絞って委譲し、`explore` は読み込み系（`read_memory`/`search_memory`/`list_memories`）のみ、`worker` は全6ツール（フルアクセス）を持つ（`agents/*.md` の `tools:` 参照） |
| `list_document_collections` / `search_documents` | ベクターDB（`src/vector_db/`）に取り込んだ社内文書のコレクション一覧と意味検索（読み取り専用）。検索結果には出典のパス（`@N`）・ページ等を添え、全体を `[vector_db] max_result_chars` で切り詰める。`[vector_db] enabled = false` の間は「無効です」を返す（「ベクターDB（社内文書の意味検索）」参照） |
| `help` | ユーザー向けヘルプ本文（`system_prompt/help.md`）をそのまま返す |

`run_script`（`run_script_background` 含む）と `execute_python_code`（`execute_python_code_background`
含む）は書き込み系ツールのため、`create_plan`/`approve_plan` で計画がユーザー承認済み
（`cl.user_session["plan_approved"]` が True）でない限り実行できず、
未承認の場合はエラーを返す（Plan Mode）。承認自体は `cl.AskActionMessage` による
✅承認/🚫拒否ボタンで行い、タイムアウト時は安全側（拒否）に倒す。`execute_python_code`
（`execute_python_code_background` 含む）は `config.ini` の `[scripts] code_execution_enabled`
でツール自体を無効化できる。

上記の41ツール・スキルすべてがメインエージェントから直接呼べるわけではない。
`config.ini` の `[main_agent_tool_guard]`（既定 `mode = all`）が、メインエージェント
自身によるビルトインツール・`run_script` 配下スキルスクリプトの直接呼び出しを
`allow_entries` のホワイトリストで制限する（`dispatch_agent` 配下のサブエージェントは
対象外）。`Read`/`Grep`/`json_query`/`analyze_image`/`execute_python_code` 系や
大半のスキルスクリプトはこのリストに含めておらず、未登録＝呼び出し不可という
形で事実上 `dispatch_agent` への委譲を強制する（トークン消費の大きい重量系ツールの
連打によるトークン上限到達を防ぐ狙い。詳細は `config.ini` 内コメント参照）。

---

## ファイル構成

```
Locohane/
├── config.ini              # 全設定（LLM接続・保存先パス・スクリプト実行・グラフ実装・サブエージェント）
├── requirements.txt        # pip 依存（バージョン固定）
├── app.py                  # Chainlit エントリ
├── app.bat                 # Windows用起動バッチ（instances/default/のホスト/ポートに追従）
├── admin.bat               # 設定ダッシュボード（管理ツール）起動バッチ
├── admin/                  # 設定ダッシュボード本体（詳細は「設定ダッシュボード」節）
│   ├── server.py            # FastAPIエントリー（`python -m admin.server`）
│   ├── auth.py               # 管理ツール自身のログイン・セッション・CSRF
│   ├── instances.py          # instances/ の作成・削除・複製・整合性チェック
│   ├── supervisor.py         # インスタンスごとの子プロセス起動・停止・再起動
│   ├── ini_catalog.py        # config.ini の読み取り専用パーサー（書き換えない）
│   ├── overrides.py          # config_overrides.json の検証・保存・バックアップ・監査記録
│   ├── env_files.py          # instances/<name>/.env の読み書き
│   ├── env_overrides.py      # 環境変数で上書き中のキーの検出
│   ├── settings_files.py     # 表示設定（public/settings/・instances/<name>/settings/）の読み書き
│   ├── audit.py              # 変更履歴ログ（JSON Lines）
│   ├── monitor.py            # モニター画面の読み取り処理（稼働状況・会話・トークン推移・ログ・LLM接続先）
│   ├── knowledge.py          # ナレッジ画面の HTTP API（ベクターDB のコレクション管理・取り込みジョブ）
│   ├── skill_lab/            # スキル研究室（「設定ダッシュボード」の「スキル研究室」節）
│   │   ├── api.py             # 研究室の HTTP API（/api/instances/{name}/skill-lab/...）
│   │   ├── themes.py          # 研究テーマの置き場・ファイル操作・状態（対象インスタンスの data/<名前>/skill_lab/themes/）
│   │   ├── sources.py         # 取り込める利用者のドラフト・正式スキル・正式エージェントの一覧
│   │   ├── evaluation.py      # テーマの評価（evals/run_all.py に資産を重ね、研究室の LLM 接続先で実行）
│   │   ├── llm.py / fixer.py / judge.py / drafting.py  # 研究室の LLM による AI 修正・AI judge・下書き
│   │   ├── worker.py          # スキル調整ワーカーとして起動されるワーカー（評価 → AI 修正 → 再評価 → トライアウト）
│   │   └── promotion.py       # 昇格（インスタンス専用の置き場へ）・差し戻し・ドラフトのアーカイブ
│   └── static/                # フロントエンド（ビルド不要の素のHTML/JS。研究室の画面は skill_lab.js、ナレッジ画面は knowledge.js）
├── instances/               # 管理ツールが管理するインスタンス別ディレクトリ（.gitignore済み、実行時生成）
│   └── <name>/               # インスタンス別の設定フォルダ。既定ではインスタンス専用の拡張ディレクトリ（[skill_lab] instance_locohane_dir。研究室で昇格した skills/・agents/・回帰テスト用の evals/）も兼ねる
├── Locohane.lnk            # 起動用ショートカット（admin.batへリンク）
├── chainlit.md             # Chainlit ウェルカム画面
├── CLAUDE.md               # プロジェクト固有の追加指示（Claude Code 形式）
├── QWEN.md                 # プロジェクト固有の追加指示（Qwen Code 形式、内容はCLAUDE.md参照の1行）
├── VERSION                 # バージョン番号の正本（1行。「バージョン管理とリリース手順」節）
├── CHANGELOG.md            # 変更履歴（Keep a Changelog 形式）
├── LICENSE                 # 本プロジェクトのライセンス（MIT）
├── THIRD_PARTY_LICENSES.md # 依存OSSライセンス一覧（tools/gen_licenses.pyで再生成）
├── memo.md                 # 開発者向けメモ
├── issue.md                # 既知の課題メモ（手動管理）
├── issue/                  # monitor-app-log スキルが app_*.log の異常検知時に自動起票するケース別Markdown
├── pytest.ini              # pytest設定
├── .env.example            # 環境変数サンプル
├── .gitignore              # Git除外設定
├── .mcp.json                # 独自スキル群をMCPサーバーとして配布する`mcp_server/`への接続設定（Claude Code等のMCPクライアント向け、project scope）
├── .chainlit/
│   ├── config.toml         # Chainlit設定
│   └── translations/       # 多言語翻訳ファイル
├── .claude/
│   └── skills/             # Claude Code用スキル（開発支援。アプリ実行時には使わない）
│       ├── tune-prompt/           # system_prompt.md等のプロンプト資産自動チューニング
│       ├── create-eval-case/      # evals/cases/ へのevalケース新規作成
│       ├── consolidate-memory/    # 全インスタンスの永続メモリーの重複統合（日次）
│       ├── apply-memory-to-skills/ # 指定インスタンスのメモリーをSKILL.mdへ反映しtune-prompt実行
│       ├── promote-skill/         # ドラフトスキル1件をスキル安定化トライアウトに通してインスタンス専用の置き場へ昇格（通常は管理ツールのスキル研究室を使う）
│       └── monitor-app-log/       # app_*.log を定期監視し issue/ へ自動起票
├── .qwen/                  # Qwen Code用の `.claude/` 相当ディレクトリ（settings.json・skills/等）
├── .locohane/                # project_locohane_dir（既定）。配下を起動時に自動検知
│   ├── LOCOHANE.md.example  # LOCOHANE.md のサンプル（配置するとプロジェクト固有指示になる）
│   ├── settings.json        # MCPサーバー接続設定
│   ├── skills/              # skills_dir にマージ走査される追加スキル置き場（同名は優先。現状は README.md のみで中身は空）
│   └── agents/              # agents_dir にマージ走査される追加エージェント種別置き場（同名は優先。現状は README.txt のみで中身は空）
├── frontend/                # カスタムReactフロントエンド
│   ├── src/
│   │   ├── components/      # UIコンポーネント（AskFormBar, PlanCard, SidePanel等）
│   │   └── utils/           # ユーティリティ
│   └── public/
├── public/                  # Chainlit公開ファイル
│   ├── build/               # フロントエンドビルド成果物
│   ├── settings/            # ヘッダー・アイコン・ウェルカム文言の設定
│   ├── icons/                # UIアイコン画像
│   ├── custom.css           # カスタムCSS
│   └── UI変更ガイド.md      # UIカスタマイズガイド
├── system_prompt/
│   ├── system_prompt.md     # メインエージェント用システムプロンプト
│   ├── help.md              # help ツールが返すユーザー向けヘルプ
│   ├── compaction_prompt.md # 会話履歴の自動要約指示
│   ├── subagent_common.md   # サブエージェント共通プロンプト
│   ├── handoff_prompt.md    # トークン上限接近時にLLMへ注入する打ち切り・引き継ぎ指示
│   └── compressing_test/    # プロンプト圧縮の効果検証用ワークスペース（開発時の実験、tune-prompt関連）
├── tools/
│   └── gen_licenses.py      # THIRD_PARTY_LICENSES.md 再生成スクリプト
├── mcp_server/               # skills/ をMCPサーバーとして外部（Claude Code等）へ配布する側の実装（`.mcp.json`から起動。詳細は`mcp_server/MCP_README.md`）
│   ├── MCP_README.md         # 配布方式・クライアント接続設定の詳細ガイド
│   ├── server.py              # エントリーポイント（FastMCPインスタンス生成、Resources/Tools登録）
│   ├── config.py              # 設定値の集約（SKILLS_SRC/WORKDIR/タイムアウト秒数/除外ファイル名。環境変数で上書き可）
│   ├── publish.py              # Resources配布用の一時コピー作成（.env等の機密ファイルを除外）
│   └── skill_tools.py          # Tools方式の3ツール本体（list_skills/read_skill/run_skill_script）
├── evals/                   # プロンプト資産の自動評価・チューニングループ
│   ├── README.md            # 実行方法・ケースの書き方
│   ├── run_all.py           # 全ケース一括実行
│   ├── run_case.py          # 1ケース実行（Chainlit UI不要）
│   ├── case_schema.py       # ケースYAMLのスキーマ
│   ├── headless_chainlit.py # Chainlitスタブ
│   ├── timing_callbacks.py  # config_timeouts用の実測タイミング計測コールバック
│   ├── analyze_timing.py    # 実測タイミング結果の集計・分析
│   ├── analyze_investigation_order.py # チューニング検証用の一時的な集計スクリプト
│   ├── tuning_log.md        # チューニング履歴
│   ├── handoff_prompt.md    # tune-prompt再開時の引き継ぎメモ
│   ├── handoff_config_timeouts_skill.md # config_timeoutsターゲット開発時の引き継ぎメモ
│   ├── cases/               # 評価ケース（YAML）
│   │   ├── system_prompt/   # システムプロンプト用ケース
│   │   ├── system_prompt_scale/ # スケーリング用ケース
│   │   ├── config_timeouts/ # timeout系設定チューニング用ケース
│   │   └── excel-skills/    # Excel系スキル用ケース
│   ├── fixtures/            # 評価用フィクスチャデータ（work_dir に指定するデータ一式）
│   │   └── answer/<target>/ # cases/<target> 用の正解データ・フィクスチャ生成スクリプト
│   ├── history/             # チューニング前スナップショット
│   └── results/             # 実行結果（再生成可能、.gitignore済み）
├── src/
│   ├── config.py            # config.ini ローダー（frozen dataclass）
│   ├── version.py           # VERSION ファイルからバージョン番号を読む（__version__）
│   ├── skills.py            # スキル発見ミドルウェア（第1段階 Discovery）
│   ├── agent_types.py       # エージェント種別発見（agents/*.md）
│   ├── tools/                # LangGraph ツール39種（第2・第3段階＋独立ツール）。ツール1つにつき原則1ファイル
│   │   ├── registry.py       # get_all_tools()・MCPツール登録・_BASE_TOOLS/_SUBAGENT_TOOLS一覧
│   │   ├── tool_node.py      # ImageAwareToolNode・メインエージェント向けツールのフィルタリング
│   │   ├── _state.py         # モジュール共有状態（config値・セマフォ・レジストリ等）の一元管理
│   │   ├── _file_tools_common.py # Read/Glob/Grep の共通ロジック
│   │   └── （read_skill.py/run_script.py/dispatch_agent.py 等、ツールごとに1ファイル）
│   ├── path_memory.py       # パスメモリー（@N）レジストリの読み書き
│   ├── memory.py            # 永続メモリーの読み書き・索引再構築
│   ├── vector_db/            # ベクターDB（社内文書の意味検索。「ベクターDB（社内文書の意味検索）」節）
│   │   ├── extract.py / chunking.py # 文書からのテキスト抽出・チャンク分割
│   │   ├── embeddings.py     # /v1/embeddings による埋め込み計算
│   │   ├── catalog.py        # コレクション定義・取り込み済みファイルの記録（catalog.sqlite）
│   │   ├── store.py / sqlite_vec_store.py / qdrant_store.py # ベクターの保存先（sqlite-vec / Qdrant）
│   │   └── ingest.py / search.py # 差分取り込み（CLI: python -m src.vector_db.ingest）・検索
│   ├── project_instructions.py # .locohane/LOCOHANE.md の読込
│   ├── graph.py             # ReAct ループ（handwritten / prebuilt を切替）
│   ├── llm/                  # ChatOpenAI（llama-server接続）の構築
│   │   ├── chat_model.py     # ChatLlamaCpp・build_model()
│   │   ├── loop_guard.py     # 反復ループ検知（ThinkingLoopDetected）
│   │   ├── thinking_control.py # ステップごとの思考レベル切り替え（[thinking_control]）
│   │   ├── routing.py        # 接続先ルーティング（round_robin/random/priority_failover）
│   │   └── diagnostics.py    # 診断用ロギング
│   ├── context_trim.py      # 古い ToolMessage の切り詰め
│   ├── context_compaction.py # 会話履歴の自動要約・圧縮
│   ├── main_token_guard.py  # メインエージェントのトークン量ガード・引継ぎプロンプト自動生成
│   ├── tool_loop_guard.py   # 全く同じ応答を連続で繰り返すループの検知（[tool_loop_guard]）
│   ├── subagent.py          # dispatch_agent の内部ReActループ
│   ├── mcp_client.py        # MCPサーバー接続（stdio）・ツール変換
│   ├── chat_log.py          # 会話ログのテキストファイル記録
│   ├── thread_store.py      # 会話スレッド一覧（左サイドバー）・再開用の軽量ストア
│   ├── plan_persist.py      # plan/plan_approved変更をターン完了を待たず即座にthread_storeへ永続化
│   ├── ask_relay.py         # approve_plan/AskUserQuestion/ask_user_choice応答待ちをスレッド切替後の別セッションへ引き継ぐ状態
│   ├── ask_reconnect.py     # 同じセッションのWebSocket再接続後に、回答待ちの質問（ボタン・入力欄）を新しい接続へ送り直すパッチ
│   ├── instance_lock.py     # 同一データディレクトリへの多重起動を防ぐプロセス排他ロック
│   ├── cleanup.py           # 不要ファイルの自動削除
│   ├── files.py             # ファイルアップロード処理
│   ├── images.py            # 画像処理・Data URL変換
│   ├── tool_labels.py       # ツールの表示名（UIのStepバッジとサブエージェントの進捗表示で共有）
│   ├── log_rotation.py      # app.log の日時ローテーション
├── agents/
│   ├── README/AGENTS_README.md # エージェント種別定義（frontmatter）の書き方ガイド（*.mdスキャン時の警告を避けるためREADME/配下に退避）
│   ├── explore.md           # 読み取り専用の汎用調査・オフィス文書/PDF調査エージェント種別
│   ├── worker.md            # 承認済み計画に沿って読取り→書込みを内部完結させる書き込み可能エージェント種別
│   └── verifier.md          # 成果物検証用エージェント種別
├── skills/
│   ├── SKILLS_README.md    # スキル開発者向けガイド
│   ├── skill-creator/       # ユーザー別ドラフトスキルの作成・改善案の作成・eval検証を行うメタスキル
│   ├── docx-read/           # docx読込専用（段落・表・文書プロパティ・Track Changes有無）
│   ├── docx-create/         # docx新規生成（見出し/段落/表/画像/ページ設定等）
│   ├── docx-edit/           # 既存docxの編集（検索置換・Track Changes・段落追加削除）
│   ├── docx-render/         # Word文書ページの画像化
│   ├── excel-read/          # xlsx/xls/xlsm読込専用（シート一覧・セルデータ）
│   ├── excel-edit/          # xlsx/xlsm新規作成・編集（セル/書式/行列/グラフ等）
│   ├── excel-recalc/        # xlsx/xlsm/xls数式再計算・エラーセル検出
│   ├── excel-vba-read/      # xlsm/xls VBAマクロコード読込専用
│   ├── excel-vba-edit/      # xlsm VBAマクロコード追加/上書き/削除・実行
│   ├── excel-render/        # Excelシートの画像化
│   ├── excel-knowledge/     # excel-edit/read/render/recalc利用時のコーディング作法・落とし穴のローカル知識ベース
│   ├── excel-vba-knowledge/ # Excel VBAのコーディング作法・落とし穴のローカル知識ベース
│   ├── pdf-tools/           # PDF読込・ページ画像化・PDF生成
│   ├── pptx-read/           # pptx読込専用（テキスト・表・発表者ノート抽出）
│   ├── pptx-create/         # pptx新規生成（16:9テンプレート方式）
│   ├── pptx-inspect/        # 既存pptxテンプレートの構造読取（shape_index把握）
│   ├── pptx-edit/           # 既存pptxテンプレートの部分編集（デザイン保持）
│   ├── pptx-render/         # PowerPointスライドの画像化
│   ├── office_shared/       # docx/excel/pptx各スキルのscripts/が共有するPython共通処理（SKILL.mdを持たずLLMには公開されない）
│   └── web-search/          # Tavily APIによるWeb検索（要APIキー設定）
│       # Read/Glob/Grep/json_query/search_path_memory はネイティブツール化済み
│       # （src/tools/read_tool.py 等、src/path_memory.py）。
├── tests/                   # pytestテストケース
│   ├── conftest.py
│   ├── fixtures/
│   └── test_*.py            # 各モジュールのテスト
└── data/                    # 実行時生成（.gitignore 済み）
    ├── checkpoints.sqlite   # LangGraph の会話状態
    ├── logs/                # アプリ動作ログ（日時ローテーション）
    ├── logs_chat/           # 会話ログ（ユーザー発言＋AI応答）
    ├── memory/              # 永続メモリー（type別サブフォルダ＋MEMORY.md）
    ├── path_memory/         # パスメモリーレジストリ（.json）
    ├── plans/               # create_plan が detail_markdown を渡した際の詳細計画Markdown
    └── temp/                # 既定の作業ディレクトリ（スレッド専用フォルダ _tmp_*/。アップロードしたファイルもここ）
```

各モジュール冒頭に「そのファイルが仕様のどの段階を実装するか」をコメントで記載している。

---

## Agent Skills 仕様への準拠範囲

仕様: <https://agentskills.io/specification>

### 準拠している範囲

- **SKILL.md frontmatter**: `name`・`description`（必須）を検証。
  `license`・`compatibility`・`metadata`・`allowed-tools`（任意）は読み取り可能。
- **`name` 検証ルール**: 1〜64 文字 / 小文字英数字・ハイフン・アンダースコアのみ /
  先頭末尾は区切り文字不可 / 区切り文字の連続不可 / **親ディレクトリ名と一致**。
- **`description` 検証**: 非空・1024 文字以内。
- **ディレクトリ構造**: `scripts/`・`references/`・`assets/` を想定した読み込み・実行。
- **progressive disclosure の 3 段階**（Discovery / Read / Execute）。
- **SKILL.md本文の呼び出し例はコマンドライン形式で統一**: `scripts/` 配下の
  スクリプトを呼ぶ例は、Locohane固有の `run_script` JSON引数形式
  （`{"skill_name":..., "script_filename":..., "script_args":[...]}`）ではなく、
  他のAgent Skills対応環境（Claude Code等）と共通の `python <script>.py <args...>`
  形式で書く（`skills/SKILLS_README.md` 4-0節参照）。これにより `skills/<name>/`
  フォルダは他環境へそのまま持ち出せるだけでなく、逆にGitHub等で公開されている
  `python <script>.py <args...>` 形式のサードパーティ製Agent Skills（他環境向けに
  書かれたSKILL.md）も、呼び出し記法の差異という障壁なくLocohaneへ導入できる
  （依存ライブラリの導入等、環境固有の準備は別途必要）。この形式からLocohane
  固有の `run_script` 呼び出しへの変換は、SKILL.md側にもコード側にも実装を持たず、
  LLM側の共通プロンプト指示（`system_prompt/system_prompt.md`・
  `system_prompt/subagent_common.md` の「SKILL.md呼び出し例の変換ルール」節）が
  ツール呼び出し時に行う。
- 仕様違反の SKILL.md は **スキップし警告ログ** を出す（全体は落とさない）。
- **ドラフトスキル（Locohane 独自の拡張）**: skill-creator が作るドラフトも同じ SKILL.md 形式だが、
  起動時の走査対象ではなく、作成者本人の会話でだけ `ユーザー名/スキル名` として一覧に出る
  （「ドラフトスキル（ユーザー別）と昇格」参照）。昇格後のスキルは通常のスキルと同じ扱いになる。

### 範囲外（実装していない）

- **`allowed-tools`**: フィールドは読み取れるが、それに基づく自動承認は未実装（仕様上も実験的）。
- **公式バリデータ（skills-ref）非統合**: 自前の最小検証のみ。厳密検証が必要なら
  `skills-ref validate ./skills/<name>` を別途利用のこと。
- **深いネスト参照**: reference 参照は SKILL.md から 1 階層を想定。

---

## データの保存場所と手動削除の手順

すべて `data/` 配下（`config.ini` の `[paths]`/`[elements]`/`[log]`/`[default_workdir]` 等の `dir` 系キーで変更可）。`data/` は `.gitignore` 済み。保存先ルートをまとめて変更したい場合は、各キーを個別に書き換える代わりに `[paths] common_data_dir`（既定 `./data/${instance}`）だけを変更すればよい（対応するキーの値は `${common_data_dir}` を参照する形で書かれている）。`${instance}` は起動中のインスタンス名（`app.bat` で直接起動した場合は `default`）に置換されるため、既定ではインスタンスごとに `data/<インスタンス名>/` へ分かれる。下表の `data/` は、既定設定では `data/<インスタンス名>/`（例: `data/default/`）を指す。

**旧バージョン（データを `data/` 直下に保存していた版）からの移行:** 既定の保存先が `./data` から `./data/${instance}` に変わったため、そのまま起動すると過去のスレッド・永続メモリー等が見えなくなる（消えてはいない）。アプリ停止中に、`data/` 直下のファイル・フォルダ（`checkpoints.sqlite`・`chat_threads.sqlite`・`memory/`・`logs/`・`elements/`・`plans/`・`path_memory/`・`logs_chat/`・`temp/`・`app.lock` 等）を `data/default/` へ移動すれば引き継げる。移動せず旧来の場所を使い続けたい場合は、管理ツールの設定画面で default インスタンスの `[paths] common_data_dir` を `./data` にする。

| パス | 中身 | 削除してよいタイミング | 削除方法 |
|------|------|------------------------|----------|
| `data/checkpoints.sqlite` | LangGraph の会話状態（全スレッドの履歴） | 過去の会話履歴が不要になったとき | ファイルを削除（アプリ停止中に） |
| `data/chat_threads.sqlite` | 会話スレッド一覧（画面左サイドバー）・再開用のメタデータ（スレッド名・所有者・Chainlitの Step 履歴）。`checkpoints.sqlite` とは別ファイル（`[thread_store]`参照） | 一覧・再開機能が不要になったとき | ファイルを削除（アプリ停止中に。`checkpoints.sqlite` 自体は消えないため会話状態は失われない） |
| `data/logs/app.log` | アプリの動作ログ | いつでも | ファイルを削除 |
| `data/memory/` | 永続メモリー（`user`/`feedback`/`project`/`reference` サブフォルダ＋`MEMORY.md`索引） | 蓄積した記憶が不要になったとき | フォルダ内を削除（`MEMORY.md`は次回保存時に再生成される） |
| `data/vector_db/` | ベクターDB の `catalog.sqlite`（コレクション定義・取り込み済みファイルの記録）と、`backend = sqlite_vec` 時のベクター `vectors.sqlite`（`[vector_db] dir`）。取り込み元の文書そのものは複製しない | コレクションが不要になったとき | 設定ダッシュボードのナレッジ画面でコレクションを削除する（フォルダごと消す場合はアプリと管理ツールの取り込みを止めてから。`backend = qdrant` のベクターは Qdrant 側に残る） |
| `data/plans/` | `create_plan` が `detail_markdown` 引数を渡した場合の詳細計画Markdown（`[paths] plans_dir`） | 古い計画が不要になったとき | フォルダ内を削除 |
| `data/skill_drafts/<ユーザー名>/` | skill-creator が作ったユーザー別ドラフトスキル（`<スキル名>/`）と、その評価結果（`_workspace/`）。`[skill_creator] draft_dir`。不採用のドラフトも記録として残る（一覧には出ない） | 不要なドラフトがあるとき | ドラフトのフォルダを削除（作成者は skill-creator の `delete_draft.py` でも消せる）。自動削除はされない |
| `data/<インスタンス名>/skill_drafts_archive/<ユーザー名>/<スキル名>_<日時>/` | 昇格したドラフトの退避先（`_workspace/` ごと移る。`[skill_creator] archive_dir`） | 記録が不要になったとき | フォルダを削除 |
| `data/skill_lab/themes/<テーマID>/` | スキル研究室の研究テーマ（仕様・開発中の資産・ケース・入力ファイル・評価と AI 修正の記録 `runs/`）。対象インスタンスごとに分かれる | テーマが終わり、記録が不要になったとき | テーマのフォルダを削除（実行中でないこと） |
| `data/temp/_tmp_<作成時刻>_<短縮ID>/` | `execute_python_code`/`run_script` の中間生成物・`write_scratch_note`/`write_thread_note` の書き出し先。チャットでアップロードしたファイル（`uploads/<送信日時>/`。作業フォルダを指定していてもここ）。自セッション専用（`[default_workdir]` 参照）。フォルダ名先頭の作成時刻（`YYMMDDHHMMSS`）はファイラー上で作成順に並べるためのもの。短縮IDは thread_id の SHA-1 先頭10桁（パス長上限 260文字を超えにくくするため、thread_id をそのまま使わない。旧形式 `_tmp_<作成時刻>_<thread_id>` のフォルダも再開時にそのまま使われる） | セッション終了後、不要になったとき | フォルダ内を削除（`[default_workdir] retention_days`/`cleanup_interval_hours` により自動削除もされる） |
| `data/elements/<thread_id>/` | 添付ファイル（`provide_download`/`analyze_image`の`show_in_chat=True`等）・回答本文への画像埋め込みの永続化先。スレッド再開・プロセス再起動後も表示できるようここへ実体をコピー保存する（`[elements]`参照、`src/thread_store.py`） | 添付ファイルが不要になったとき | フォルダ内を削除 |
| `.files/` | Chainlit自身のセッションファイル配信ディレクトリ（送信直後のライブ表示にのみ使う一時配信。プロジェクト直下、`data/`配下ではない） | いつでも | フォルダ内を削除 |
| `data/app.lock` | 同一データディレクトリへの多重起動を防ぐプロセス排他ロック（`src/instance_lock.py`）。空ファイルにOSのファイルロックをかけるだけで中身は使わない | アプリ停止中、削除しても実害はない | ファイルを削除（アプリ起動中は削除不可） |
| `data/runtime_status.json` | 接続中セッション・生成中スレッドのスナップショット（設定ダッシュボードのモニター表示用、`src/runtime_status.py`）。本体が数秒ごとに更新し、正常終了時に削除する | 異常終了で残った場合 | ファイルを削除（次回起動時に作り直される） |
| `instances/<name>/` | 設定ダッシュボード（管理ツール）が管理するインスタンス別ディレクトリ（`config_overrides.json`・`.env`・`settings/`・`backups/`・`app_stdout.log`・スキル研究室で昇格したそのインスタンス専用のスキル・サブエージェント `skills/`・`agents/`・回帰テスト用の `evals/`。データ本体は`data/<name>/`） | インスタンス自体が不要になったとき | 管理ツールの削除機能を使う（稼働中・`default`は不可。ログ・スレッド・default_workdir 等の永続データは、削除ダイアログで選択したものだけ一緒に削除される。詳細は「設定ダッシュボード」節） |

`data/temp/_tmp_*/` は `config.ini` の `[default_workdir] retention_days`（既定7日）を過ぎたフォルダを
アップロードしたファイルごと `cleanup_interval_hours`（既定1時間）おきに自動削除する。`retention_days` を0以下にすると
自動削除は無効化される。アップロードした画像は会話へ直接埋め込まず保存先のパス（`@N`）だけを LLM へ渡すため、
この日数を過ぎてから古いスレッドを再開すると、そのスレッドでアップロードしたファイルはもう開けない（再度アップロードする）。
旧版の `data/uploads/`（`[uploads]` は廃止）は使われなくなったため、不要ならフォルダごと削除してよい。
`data/elements/` も `[elements] retention_days`（既定7日）・
`cleanup_interval_hours`（既定1時間）で同様に自動削除される。`.files/` も `[chainlit_files]
retention_days`（既定7日）・`cleanup_interval_hours`（既定1時間）で同様に自動削除される
（Chainlit自身のパス管理下にあるため `dir` キーは無い。ディレクトリ単位＝セッションIDごとに
削除する点が他と異なる）。

手動全削除（PowerShell / cmd、アプリ停止中に実行）:

```powershell
Remove-Item -Recurse -Force .\data\*
```

「孤児ファイル」を作らない設計: 保存は `app.py` の `_save_uploads()`（`data/temp/_tmp_*/uploads/` へ）、
会話履歴は `AsyncSqliteSaver`（`data/checkpoints.sqlite`）に限定される。
どこに何が書かれるかはコード上で一意に追える。

---

## セットアップと起動

### 1. Python 環境の指定と依存インストール

プロジェクトで使う Python 仮想環境は、プロジェクト直下の `python_env.bat` の
`PYTHON_DIR` **1か所だけ**で指定する。最初にここを実際の環境に書き換える。

```bat
set PYTHON_DIR=C:\DT_Python\Python311\env_local_agent_system
```

| 変数 | 設定する値 |
|---|---|
| `PYTHON_DIR` | Locohane を実行する Python 仮想環境のディレクトリ。`admin.bat`・`app.bat`・`mcp_server.bat`（`.mcp.json` から起動）はこのファイルを `call` して使う。**管理ツールから起動する各インスタンスも同じ Python（`sys.executable`）で起動され**（`admin/supervisor.py` 参照）、`config.ini` の `[scripts].python` が空欄（既定）なら `run_script`/`execute_python_code` もこの Python を使う |

続けて、その環境に依存パッケージをインストールする（コマンドプロンプトで実行）。

```cmd
call python_env.bat
python -m pip install -r requirements.txt
```

### 2. 推論サーバー（llama.cpp / vLLM）の起動例

LLM接続先はOpenAI互換エンドポイントであれば何でもよいが、`config.ini`の
`[llm] main_url`/`sub_url`内の`provider`（`llama_cpp`/`vllm`/未指定＝
`openai_compatible`）を実際のサーバー種別と揃えると、拡張パラメータ
（`repeat_penalty`/`dry_*`/`reasoning_budget`等）の名称・送信可否を
サーバーごとの方言に自動で合わせてくれる（`src/llm/dialect.py`）。

**llama-server（llama.cpp）**

OpenAI 互換エンドポイントを `http://localhost:8080/v1` で公開する:

```bash
llama-server --model C:\path\to\model.gguf --alias local-model --host 127.0.0.1 --port 8080 -c 8192
```

- `--alias` はモデル名。`config.ini` の `[llm] main_url` 内の `model` と揃える。
- サンプリング（`top_p`/`top_k`/`repeat_penalty`/`frequency_penalty`/`presence_penalty`/`max_tokens`）は
  `--repeat-penalty` 等の起動時 CLI オプションでも既定値を指定できるが、`config.ini` の
  `[llm]` 側で値を指定した場合はリクエストごとにその値が優先される（未指定＝空欄の項目のみ
  llama-server 起動時の既定値が使われる）。

**vLLM**

OpenAI 互換エンドポイントを `http://localhost:8000/v1` で公開する:

```bash
vllm serve /path/to/model --served-model-name local-model --host 127.0.0.1 --port 8000
```

- `--served-model-name` はモデル名。`config.ini` の `[llm] main_url` 内の `model` と揃える。
- thinking（`<think>`ブロック）モデルを使う場合は、`--reasoning-parser`
  （例: `deepseek_r1`）を起動時に指定する必要がある（vLLMはllama-serverと
  異なり `reasoning_format` をリクエストでは切り替えられない）。
- `dry_*`（DRYサンプラー）・`reasoning_format`・`reasoning_budget_message`は
  vLLMには送られない（`src/llm/dialect.py`が自動で除外する）。

接続先・モデル名は `config.ini`（または環境変数 `LLM_MAIN_URL` / `LLM_SUB_URL`）で切り替え可能。
どちらのサーバーも、接続先・拡張パラメータは起動後に設定ダッシュボード
（管理ツール）のUIから変更できる（「設定ダッシュボード（管理ツール）」節参照）。

> **⚠️ 商用利用時のモデルライセンス**
> llama.cpp・vLLM自体はいずれもMITベースのライセンスですが、**動かすモデルの
> ライセンスはモデルごとに異なります**（基盤コードには含まれません）。
> 商用利用時は必ず確認してください。
> - Qwen2.5 系 / Mistral 系 → Apache 2.0（商用可・推奨）
> - Llama 系 → Meta Llama Community License（商用可だが月間7億MAU条項など独自制約あり）
> - Gemma 系 → 独自の Gemma Terms of Use
> 迷ったら Apache 2.0 のモデル（Qwen2.5 等）を選ぶのが安全です。

### 3. 環境依存パスの最低限の設定

推論サーバー（llama-server/vLLM）を起動したら、環境依存で必ず実際の値に合わせる必要がある
パス設定を行う。設定ダッシュボード（管理ツール）を使う場合、
**LLM接続先（`[llm] main_url`/`sub_url`）はログイン後にUIから設定できる**ため、
起動前に `config.ini` を直接編集する必要はない。Python 環境は手順1の
`python_env.bat` で指定済みなので、ここで事前にテキストで用意しておく
必要があるのは次の2ファイルだけ。

**`.env`（管理ツールのログイン情報）**

| キー | 設定する値 |
|---|---|
| `ADMIN_USERS` | 管理ツールへログインするユーザー名/パスワードの組。`.env.example` をコピーして `.env` を作成し設定する（未設定だと管理ツールは起動を拒否する） |

**`admin.bat`（管理ツール自身の起動設定）**

| 変数 | 設定する値 |
|---|---|
| `ADMIN_HOST` / `ADMIN_PORT` | 管理ツール自身の待受ホスト・ポート（既定 `127.0.0.1:8001` 相当）。ポートが他と競合する場合のみ変更する |

ここまで設定すれば `admin.bat` を起動でき、ログイン後はダッシュボードの
「インスタンス」→ 対象インスタンスの「設定」→ `config.ini` タブから
`main_url`/`sub_url` を検索して設定・保存し、インスタンスを
再起動すれば反映される（詳細は「設定ダッシュボード（管理ツール）」節）。
`run_script`/`execute_python_code` だけ別の Python で動かしたい場合は、
同じ画面で `[scripts].python` を指定する（空欄なら `python_env.bat` の環境）。

**プロジェクト `CLAUDE.md`（Claude Code がこのプロジェクトを開発・テストする際に使う実行環境。アプリの実行には不要）**

| 見出し | 設定する値 |
|---|---|
| `Python実行環境` | Claude Code がスクリプト実行・動作確認に使う Python 実行ファイルの絶対パス（通常は `python_env.bat` の `PYTHON_DIR` と同じ仮想環境） |
| `Node.jsパス` | `frontend/`（package.json あり）のビルド・テストに Claude Code が使う Node.js のディレクトリ |

**管理ツールを使わず、テキストエディタで直接設定する場合**

`config.ini` の `[llm] main_url`/`sub_url` を直接書き換えれば（Python 環境は
手順1の `python_env.bat` で指定済み）、管理ツールを介さず
`app.bat` で単体起動できる（各項目の意味は後述の「設定リファレンス
（config.ini）」参照）。

### 4. アプリ起動

```cmd
admin.bat
```

管理ツール（設定ダッシュボード）が起動し、`default` インスタンス
（Locohane本体）を自動起動する。詳細は「設定ダッシュボード
（管理ツール）」節を参照。

開発時にホットリロードしながら単体で動かしたい場合は次のいずれか。

```cmd
rem 方法A: chainlitを直接起動（python_env.bat の環境を読み込んでから）
cd C:\DT_Python\Locohane
call python_env.bat
chainlit run app.py -w

rem 方法B: app.bat（instances/default/instance.json のホスト・ポートに追従）
app.bat
```

ブラウザで開き、例えば「この Excel ファイルの中身を要約して」と送ると、
`read_skill`（excel-read の本文読込）→ `run_script`（`read_excel.py` 実行）が
**ステップとして可視化** され、結果がストリーミング表示される。

### 5. HTTPS で待ち受ける（任意）

LAN 上の他端末やスマホから使う場合など、通信を暗号化したいときは
`config.ini` の `[admin]` にサーバー証明書と秘密鍵（どちらも PEM 形式）の
パスを両方指定する（環境変数 `SSL_CERTFILE` / `SSL_KEYFILE` でも可）。

```ini
[admin]
ssl_certfile = ./certs/server.crt
ssl_keyfile = ./certs/server.key
```

- 管理ツール（uvicorn の `ssl_certfile`/`ssl_keyfile`）と、管理ツールから起動する
  本体インスタンス・`app.bat`（`chainlit run` の `--ssl-cert`/`--ssl-key`）が、
  同じ証明書で HTTPS 待ち受けになる（インスタンスごとの切り替えはできない）。
  URL は `https://<ホスト>:<ポート>` になり、HTTP では接続できなくなる。
- 片方だけの指定や、ファイルが見つからない場合は起動を拒否する
  （HTTP へ黙ってフォールバックしない）。判定は `src/config.py` の `resolve_ssl_files()`。
- 管理ツールのセッションクッキーには HTTPS 時に `Secure` 属性が付く。
- 変更後は `admin.bat`（または `app.bat`）を起動し直す。管理画面からの
  インスタンス再起動だけでは、管理ツール自身は HTTPS にならない。

証明書は、社内 CA があればそこで発行したものを使うのが望ましい。検証用に
自己署名証明書を作る場合の例（Git for Windows 同梱の openssl。接続に使う
ホスト名・IP アドレスを `subjectAltName` に含めること）:

```cmd
openssl req -x509 -newkey rsa:2048 -nodes -days 365 ^
  -keyout certs\server.key -out certs\server.crt -subj "/CN=locohane" ^
  -addext "subjectAltName=DNS:localhost,IP:127.0.0.1,IP:192.168.1.10"
```

自己署名証明書ではブラウザに警告が出るため、利用する端末に証明書を
信頼済みとして登録する（スマホの「ホーム画面に追加」等も、信頼されて
いない証明書では正しく動かないことがある）。秘密鍵はリポジトリへ
コミットしないこと（プロジェクト直下の `certs/` は `.gitignore` 対象）。

---

## 開発環境

本プロジェクトの開発・動作検証に実際に使用している環境の一例。

### コーディングAgentツール

| ツール | 内容 |
|--------|------|
| ClaudeCode | Claude Pro Plan |
| QwenCode | llama-server（ローカル）+ Qwen3.6-35B-A3B |

### OS / ハードウェア

- OS: Windows 11
- CPU: Intel(R) Core(TM) Ultra 5 225（10コア / 10論理プロセッサ、ベース3.30GHz）
- メモリ: 32GB
- GPU: NVIDIA GeForce RTX 5060 Ti（専用GPUメモリ 16.0GB）

### llama-server 起動コマンド例

上記ハードウェアに合わせて以下の引数で `llama-server` を起動している。

```
  --model .\models\unsloth\Qwen3.6-35B-A3B-GGUF\Qwen3.6-35B-A3B-UD-Q4_K_M.gguf
  --mmproj .\models\unsloth\Qwen3.6-35B-A3B-GGUF\mmproj-F16.gguf
  --n-cpu-moe 25
  --n-gpu-layers 99
  --threads 10
  --threads-batch 10
  --threads-http 4
  --models-max 1
  --parallel 2
  --batch-size 4096
  --ubatch-size 2048
  --ctx-size 256000
  --n-predict 32000
  --temp 0.6
  --top-p 0.95
  --top-k 20
  --min-p 0.0
  --presence-penalty 0
  --repeat-penalty 1.0
  --cache-reuse 256
  --cache-ram -1
  --swa-full
  --cache-type-k q8_0
  --cache-type-v q8_0
  --flash-attn on
  --jinja
  --no-mmap
  --mlock
  --reasoning-format deepseek
  --reasoning-budget 8192
  --reasoning-budget-message "**Wait, I am overthinking this. I should answer now.**"
```

- `n-cpu-moe`/`n-gpu-layers` はGPUの専用メモリ容量（16GB）に収まるよう調整したMoEオフロード設定。
- `ctx-size`/`cache-type-k`/`cache-type-v` はコンテキスト長とKVキャッシュ量子化のバランスをとった値。

---

## 同梱スキル

| スキル | 配置場所 | 種別 | 内容 |
|--------|----------|------|------|
| `skill-creator` | `skills/` | スクリプト実行を伴う | 自分専用のドラフトスキルの作成・既存スキルの改善案の作成・本文の書き込み・evalハーネスによる繰り返し評価（スキル安定化トライアウト）・description のトリガー精度最適化を行うメタスキル。正式スキルは書き換えない（下記「ドラフトスキル（ユーザー別）と昇格」）。 |
| `pdf-tools` | `skills/` | スクリプト実行を伴う | PDFのテキスト抽出・ページ画像化（レイアウト/図表/スキャン内容の視覚把握）・PDF生成（日本語対応）。 |
| `docx-read` | `skills/` | スクリプト実行を伴う | docxの読込専用（段落・表・文書プロパティ・Track Changes有無・画像有無の取得）。 |
| `docx-create` | `skills/` | スクリプト実行を伴う | docxの新規生成（見出し/段落/箇条書き/表/画像/ページ設定/ヘッダーフッター等）。 |
| `docx-edit` | `skills/` | スクリプト実行を伴う | 既存docxの編集（検索置換、画像挿入・サイズ変更、Track Changes/変更履歴の付与・確定・却下を含む。画像トリミングは非対応）。 |
| `docx-render` | `skills/` | スクリプト実行を伴う | Word文書ページの画像化（レイアウト・表・画像配置・強調表現の視覚把握）。 |
| `excel-read` | `skills/` | スクリプト実行を伴う | xlsx/xls/xlsmの読込専用（シート一覧・セルデータ・画像有無）。 |
| `excel-edit` | `skills/` | スクリプト実行を伴う | xlsx/xlsmの新規作成・編集（セル/書式/行列/グラフ・画像追加と位置調整・条件付き書式・データ検証を含む。画像トリミングは非対応）。 |
| `excel-recalc` | `skills/` | スクリプト実行を伴う | xlsx/xlsm/xlsの数式再計算・エラーセル検出。 |
| `excel-vba-read` | `skills/` | スクリプト実行を伴う | xlsm/xlsのVBAマクロコードの読み込み専用。 |
| `excel-vba-edit` | `skills/` | スクリプト実行を伴う | xlsmのVBAマクロコードの追加/上書き/削除・実行。 |
| `excel-render` | `skills/` | スクリプト実行を伴う | Excelシートの画像化（罫線・書式・グラフ・レイアウトの視覚把握）。 |
| `excel-knowledge` | `skills/` | 参照のみ | excel-edit/excel-read/excel-render/excel-recalc利用時のコーディング作法・定石・落とし穴を蓄積したローカル知識ベース（`references/`参照）。 |
| `excel-vba-knowledge` | `skills/` | 参照のみ | Excel VBAのコーディング作法・定石・落とし穴を蓄積したローカル知識ベース（`references/`参照）。 |
| `pptx-read` | `skills/` | スクリプト実行を伴う | pptxの読込専用（スライドのタイトル・本文・表・発表者ノートの抽出）。 |
| `pptx-create` | `skills/` | スクリプト実行を伴う | pptxの新規生成（16:9テンプレート方式）。 |
| `pptx-inspect` | `skills/` | スクリプト実行を伴う | 既存pptxテンプレートの構造読取専用（`pptx-edit`前の`shape_index`把握）。 |
| `pptx-edit` | `skills/` | スクリプト実行を伴う | 既存pptxテンプレートの部分編集（デザインを保った差し替え・複製・削除・並び替え・画像/グラフの新規追加・画像トリミング）。 |
| `pptx-render` | `skills/` | スクリプト実行を伴う | PowerPointスライドの画像化（レイアウト・図表・画像配置・強調表現の視覚把握）。 |
| `web-search` | `skills/` | スクリプト実行を伴う | Tavily APIによるWeb検索。スキル専用の`scripts/.env`にTAVILY_API_KEY設定時のみ動作（既定では通信なし）。 |

`.locohane/skills/` はユーザー独自スキルの置き場（`skills/` とマージ走査、同名は優先）で、現状は使い方を示す `README.md` のみを含む。
`.locohane/` は全インスタンス共通のため、組織・役割ごとに分けたいスキル・サブエージェントは、インスタンス専用の
`instances/<インスタンス名>/skills/`・`agents/`（`[skill_lab] instance_locohane_dir`、最優先で走査）に置く。
管理ツールのスキル研究室で昇格したものは、ここへ置かれる。

スキル開発の詳細な手順・規約は [`skills/SKILLS_README.md`](skills/SKILLS_README.md) を参照。

処理時間が `[scripts].timeout`（既定300秒）に近づく、または超えうるスクリプトを持つスキルは、
SKILL.md 側にその旨（実行に時間がかかりうる）を明記する（`run_script`/`run_script_background`
といったLocohane固有のツール名はSKILL.md本文には書かない。4-0節参照）。長時間化しうる
スクリプトかどうかを踏まえて `run_script` と `run_script_background` のどちらを使うかは、
LLM側の共通変換ルール（`system_prompt/system_prompt.md`・`system_prompt/subagent_common.md`
の「SKILL.md呼び出し例の変換ルール」節）が判断する。`run_script_background` は
（`[scripts].background_inline_wait_max_seconds` の安全上限に達しない限り）完了まで
自動的に待ち、`run_script` と同じ最終結果を直接返す（進捗は人間向けにチャットへ自動で
通知されるため、SKILL.md 側でポーリング手順を指示する必要は無い）。安全上限を超える
ごく長時間のスクリプトに限り `job_id` を含む案内が返るので、その場合のみ
`check_script_job`/`stop_script_job` の使い方をSKILL.md に明記すればよい。

### ドラフトスキル（ユーザー別）と昇格

利用者（スキル開発の専門家とは限らない）がチャットから skill-creator で作るスキルは、
正式スキルではなく**ドラフト**として `[skill_creator] draft_dir`（既定 `data/<インスタンス名>/skill_drafts/`）の
`<ユーザー名>/<スキル名>/` に置かれる。設計の要点:

- **本番への混入を構造的に防ぐ**: `draft_dir` は起動時のスキル走査対象（`skills_dir`・`agents_dir`・
  `project_locohane_dir`）と同一・包含関係にすると起動時にエラーになる（`src/config.py` の `_validate_skill_draft_dir`）。
  skill-creator が書き込めるのは、`skills/` 配下の skill-creator 本体の実行に限り、自分のドラフトフォルダだけ
  （`src/tools/_subprocess_env.py` の `_skill_creator_draft_roots`）。正式スキルを直したいときは
  `fork_skill.py` で改善案のドラフトを作り、元のハッシュを記録する。
- **作成者本人の会話でだけ使える**: ドラフトはセッションごとに、スキル名 `ユーザー名/スキル名` として
  システムプロンプトのスキル一覧と `read_skill` の選択肢に足される（`app.py` の `_apply_session_draft_skills`、
  `src/tools/session_tools.py`）。ドラフトを作成・削除・description 変更した次のメッセージから反映される
  （`app.py` の `on_message` が毎回ドラフトの状態を前回と比べ、変わっていればグラフを組み直す）。
  ユーザーの判定はログインユーザー名をフォルダ名にしたもの（`src/skill_drafts.py` の `draft_owner_name()`。
  会話ログと同じ置換に加え、小文字化・末尾のドット/空白の除去・`..` や予約デバイス名の回避を行う）で行うため、
  認証を無効にしている場合は全員が同じ `anonymous` のドラフトを共有する点に注意。
- **他ユーザーのドラフトの扱いは4段階**（`[skill_creator] other_users_drafts`）: `hidden`（既定。一覧に出ず、
  Read/Glob/Grep/execute_python_code 等からも読めない）／`listed`（一覧にだけ出る）／`readable`（読み取りまで）／
  `full`（実行・書き込み・評価まで）。判定は `src/skill_drafts.py` に集約し、`_safe_path`・`Read` 系のパス解決・
  Grep の再帰検索・Python 実行の書き込みガード（読み取り・一覧取得も禁止するルートと、作業ディレクトリが
  `draft_dir` を含んでいても書き込みを禁止するルート）の各所から呼ぶ。
- **ドラフトは承認なしで直接使える**: ドラフトのスクリプトと skill-creator 本体のスクリプトは、
  `[plan] plan_approval_exempt_scripts`・`[main_agent_tool_guard]` の設定に関係なく、計画承認なし・
  メインエージェントからの直接実行ができる（作成者は config.ini を編集できないため）。名前ではなく
  スクリプトの実体の場所で判定するため、同名スキルの偽装では免除されない。書き込み先は通常どおり作業ディレクトリに限られる。
  `[main_agent_tool_guard]` 有効時、メインエージェントへ渡す `run_script`/`run_script_background` は、
  `skill_name` を直接実行できるスキル（allow_entries 登録分・skill-creator・実行できるドラフト）の選択肢に
  制約した複製になる（呼べないスキルを試して拒否される往復を防ぐ）。
- **評価は本番の構成の上にドラフトを重ねて行う**: skill-creator の `run_isolated_eval.py` は
  `evals/run_all.py --cases-dir <ドラフト>/evals --skill-overlay <ドラフト>` を実行する。会社専用の
  `project_locohane_dir` を含む本番のスキル構成を残したまま、ドラフトだけを最優先で重ねる。
  重ねたスキルのスクリプトは、昇格時に登録されるのと同じく計画承認・`[main_agent_tool_guard]` を免除した設定で
  評価する（会話で試した挙動・評価した挙動・昇格後の挙動を揃える）。`--repeat N` でスキル安定化トライアウトになる。
- **修正が入ったら合格回数は0から**: トライアウトは開始時のドラフトとケースを一時フォルダに固定して全回を評価し、
  その内容のハッシュを `tryout.json` に残す（`evals/skill_tree.py`）。ドラフトを1か所でも直すと、`_draft_meta.json` の
  トライアウト記録は空になり、昇格時もハッシュが一致しないトライアウト結果は使えない。
- **正式化はスキル開発者が管理ツールのスキル研究室で行う**（下記「設定ダッシュボード」の「スキル研究室」）。
  開発者はドラフトを研究テーマに取り込み（取り込んだ時点の複製で作業するため、作成者は引き続き編集できる）、
  仕様とケースを整え、研究室の AI に不具合を自己修正させて、トライアウト（`[skill_creator] tryout_repeats` 回、既定10回）に
  全回合格させる。人は確認・軽い手修正・承認／否認をする。承認すると、ドラフトを作ったインスタンス専用の置き場
  （`[skill_lab] instance_locohane_dir`、既定 `instances/<インスタンス名>/skills/`）へ昇格し、元のドラフトは
  `[skill_creator] archive_dir`（既定 `data/<インスタンス名>/skill_drafts_archive/`）へ `_workspace` ごと移る。
  差し戻すと、理由が作成者の skill-creator（`list_drafts.py` の `returned_reason`）に出る（研究室での修正をドラフトへ写すこともできる）。
- **昇格先はインスタンス専用の置き場だけ**: 同梱の `skills/`・`agents/` や、全インスタンス共通の `project_locohane_dir`
  （`.locohane/` 等）には置かない。組織別・役割別に分けたほかのインスタンスへ混ざるのを防ぐため。同梱・共有のスキルを
  改善したものも専用の置き場に同じ名前で置き、そのインスタンスでだけ置き換わる（元のファイルと他のインスタンスは変わらない）。
  スクリプトを持つスキルの免除設定（`[plan] plan_approval_exempt_scripts`・`[main_agent_tool_guard] allow_entries`）も、
  そのインスタンスの `config_overrides.json` にだけ登録する（管理ツールと同じ検証・バックアップ・変更履歴つき）。
  昇格したスキルと設定が効くのは再起動後。
- **Claude Code の promote-skill も残している**: ドラフト1件をそのまま判定して昇格させたいときの経路。昇格先・アーカイブ・
  設定の登録は研究室と同じ規則（`promote_helper.py install` は `--instance` 専用の置き場にだけ置く）。記録はどちらも `evals/promotion_log.md`。

### 新しいスキルの追加方法

`skills/<name>/SKILL.md` を作るだけ（`<name>` はフォルダ名 = frontmatter の `name`）。
ビルトイン一式を汚したくない場合は `.locohane/skills/<name>/SKILL.md` に置いてもよい
（`skills/` とマージ走査され、同名スキルがあれば `.locohane/skills` 側が優先される）。
最小の SKILL.md:

```markdown
---
name: my-skill
description: 何をするスキルか、いつ使うかを具体的に書く。
---

# my-skill

ここに手順を書く。必要なら scripts/ references/ assets/ を追加する。
```

`scripts/` 配下のスクリプトを呼び出す例を本文に書く場合は、Locohane固有の
`run_script` JSON引数形式ではなく `python <script>.py <args...>` というコマンド
ライン形式で書く（詳細は [`skills/SKILLS_README.md`](skills/SKILLS_README.md) 4-0節参照）。
実際の`run_script`呼び出しへの変換はLLM側の共通指示が行う。

アプリを再起動すると起動時走査で自動的に発見される（動的リロードはしない）。

---

## MCPサーバー接続

Anthropic公式のModel Context Protocol（[仕様](https://modelcontextprotocol.io/specification)）に
準拠し、外部のMCPサーバー（stdioトランスポートのみ対応）をLLMのツールとして動的に
利用できる。実装は `src/mcp_client.py`（公式Python SDK、PyPI: `mcp` を直接使用）。

- **設定ファイル**: プロジェクト直下 `.locohane/settings.json`（git管理対象）。
  Claude Code / Qwen Code の `mcpServers` 設定形式を参考にしている。
  ```jsonc
  {
    "mcpServers": {
      "my-server": {
        "command": "npx",
        "args": ["-y", "@some/mcp-server"],
        "env": { "API_KEY": "${MY_SERVER_API_KEY}" },
        "cwd": null,
        "disabled": false
      }
    },
    "mcp": {
      "enabled": true,
      "connectTimeoutSeconds": 15,
      "callTimeoutSeconds": 60
    }
  }
  ```
  トップレベルの `"mcp"` ブロックは `config.ini` の `[mcp]` セクション（既定値）を
  上書きする任意項目。`env` の値に `${ENV_VAR_NAME}` と書くと、接続時に
  `os.environ` から展開される。**`.locohane/settings.json` はgit管理対象のため、
  APIキー等の機密情報を直接書かず、必ずこの `${ENV_VAR_NAME}` 形式で参照すること。**
  未解決の環境変数がある場合、そのサーバーのみ接続をスキップする（警告ログ）。
- **接続方式**: アプリ起動時（`@cl.on_app_startup`）に `mcpServers` の全件へ自動
  接続する。Chainlit UIから都度追加する機能は提供しない。
- **ツール名の命名規則**: 衝突を避けるため `mcp__<サーバー名>__<ツール名>`
  （64文字以内に正規化）としてLLMに公開する。
- **エラー時の挙動**: 個別サーバーへの接続失敗・タイムアウトはそのサーバーのみ
  警告ログを出してスキップし、アプリ全体の起動は継続する。ツール呼び出し自体の
  失敗も例外を送出せず `"エラー: ..."` 形式の文字列として返す。
- **既知の限界**: 接続後にサーバープロセスがクラッシュした場合の自動再接続は
  行わない。応答はテキストブロックのみ抽出する（画像等のリソースは未対応）。
- **`[main_agent_tool_guard]`との関係**: MCP動的ツールは名前が実行時にしか
  分からず`allow_entries`へ事前登録できないため、既定の`mode=all`のままだと
  メインエージェントから一切呼び出せない。事前登録なしで常に許可したい場合は
  `mode=tools_skills_only`を使う（詳細は`config.ini`内コメント参照）。

**MCPサーバー接続は、実装のみで動作テストしていないのでまともに動くか保証できません**

### 逆方向：Locohaneのスキルを配布する側（サーバー）

上記は Locohane が外部 MCP サーバーのツールを**使う側**（クライアント）の話。
逆に、Locohane の `skills/` に溜めた SKILL.md 群を Claude Code / Claude Desktop
等の外部 MCP クライアントから発見・取得・**実行**できるよう配布する側（サーバー）
の実装は `mcp_server/` パッケージにあり、こちらは動作確認済み。設定ファイルは
プロジェクト直下 `.mcp.json`（`command`/`args` にこのマシンのフルパスが書かれる
ため環境が異なる相手には要調整）。詳細な仕組み・クライアント接続手順は
[`mcp_server/MCP_README.md`](mcp_server/MCP_README.md) を参照。

---

## 永続メモリー（スレッドをまたぐ記憶）

ClaudeCode のメモリー機能相当。会話（スレッド）が変わっても引き継ぎたい事実を、
`data/memory/`（`config.ini` の `[paths] memory_dir` で変更可）配下に
YAML frontmatter 付き Markdown ファイルとして保存する。ロジックは `src/memory.py`
に集約し、`src/tools/memory_tools.py` の6ツール（`create_memory`/`update_memory`/`delete_memory`/
`read_memory`/`search_memory`/`list_memories`）が薄いラッパーとして公開する。

- **4種類の type**: `user`（ユーザーの役割・選好）／`feedback`（訂正・確認済みの
  アプローチ）／`project`（進行中の作業の背景）／`reference`（外部リソースの所在）。
  それぞれ `data/memory/<type>/` 配下に `<name>.md` として1ファイル保存される。
- **索引 `MEMORY.md`**: 保存されている全メモリーの `name`+`description` 一覧。
  create/update/delete のたびに全再構築される（差分更新はしない設計）。
  この索引はシステムプロンプトの `{{memory}}` に常時差し込まれ、LLM は起動時から
  全メモリーの一覧を把握できる（本文は `read_memory`/`search_memory` で都度取得）。
- 200行を超える場合はシステムプロンプトへの差込時に切り詰められる（`src/memory.py`
  の `render_memory_block`）。
- `dispatch_agent` のサブエージェントにはメモリー系ツールを渡さない（主エージェント
  専用）。

保存・削除の判断基準（何を保存すべきで何を保存すべきでないか）は
`system_prompt/system_prompt.md` の「Memory System」セクションに記載している。

### スレッド共有ノート（thread notes）との違い

上記の永続メモリーはスレッドをまたぐ長期記憶用だが、これとは別に
**同一スレッド内に閉じた一時的な共有メモ**として `write_thread_note`/
`list_thread_notes`/`read_thread_note` の3ツールがある（主エージェント・
サブエージェント（`dispatch_agent`の全 agent_type）の両方が読み書き可能）。

- 保存先は `data/memory/` ではなく、作業ディレクトリ配下の
  `_tmp_<name>/_thread_notes.md`（`execute_python_code`/`run_script`の
  中間生成物と同じ一時領域。`write_scratch_note` が使う
  `_scratch_notes_<run_id>.md` の隣に置かれる）。
- 用途は「委譲先サブエージェントの調査結果を、最終回答を肥大化させずに
  他のエージェント（委譲元や以降の別のサブエージェント）へ引き継ぐ」こと。
  永続メモリーのように次回以降のスレッドへは引き継がれない。
- スレッド共有ノートは自動索引化されず、システムプロンプトにも差し込まれない
  （`list_thread_notes`で都度トピック一覧・文字数を確認してから読む設計。
  詳細は `system_prompt/subagent_common.md`・`system_prompt/system_prompt.md`
  参照）。
- ライフサイクルは `_tmp_<name>` 全体と同じで、`[default_workdir]`の
  `retention_days`/`cleanup_interval_hours`（本ドキュメント「設定リファレンス」
  参照）による自動削除の対象、または手動削除も可能。
- コンテキスト圧縮（要約）が発生すると、要約LLMが書き出し済みのトピックを
  要約に残すとは限らないため、`src/context_compaction.py` の `maybe_compact`
  がトピック一覧（`list_thread_notes`相当）を要約結果とは無関係に機械的に
  再注入する。これにより圧縮後もモデルはthread noteの存在・トピック名を
  見失わない（承認済み実行計画の再注入と同じ仕組み）。

---

## ベクターDB（社内文書の意味検索）

規程・手順書・仕様書等の社内文書をインスタンス単位で取り込み、LLM が意味の近い箇所を検索して回答に使えるようにする機能
（RAG）。既定では無効（`[vector_db] enabled = false`）。ロジックは `src/vector_db/` に集約し、LLM 向けには
`src/tools/vector_db_tools.py` の2ツール（`list_document_collections`/`search_documents`、読み取り専用）を公開する。
文書の取り込みは利用者ではなく管理者が設定ダッシュボードから行う。

- **コレクション**: 取り込み元フォルダ1つに対応する文書群。インスタンス内の全ユーザーが検索できる。名前は半角英数字・`_`・`-`
  （48文字以内）で、日本語の説明は「説明」欄に書く（`list_document_collections` で LLM にも見せる）。
  定義と取り込み済みファイルの記録（サイズ・更新日時・SHA-256・チャンク数）は、保存先によらず
  `[vector_db] dir`（既定 `data/<インスタンス名>/vector_db/`）の `catalog.sqlite` に置く（`src/vector_db/catalog.py`）。
- **保存先**（`[vector_db] backend`）: `sqlite_vec`（既定。同じフォルダの `vectors.sqlite` に sqlite-vec の `vec0` 仮想テーブルで
  保存、サーバー不要、`src/vector_db/sqlite_vec_store.py`）か `qdrant`（Qdrant サーバー、`src/vector_db/qdrant_store.py`）。
  どちらもコサイン類似度で比べる。
- **取り込み**（`src/vector_db/ingest.py`）: 対応形式は `.pdf`（ページ単位）・`.docx`・`.xlsx`/`.xlsm`（シート単位）・`.pptx`
  （スライド単位、ノート含む）・`.md`/`.txt`/`.csv`（`[vector_db] include_extensions` で絞れる。Office の一時ファイル `~$*` は除く）。
  本文を `chunk_size` 文字以内のチャンクに分け（段落・改行の切れ目を優先し、隣と `chunk_overlap` 文字重ねる）、
  チャンクごとの埋め込みを保存する。2回目以降は**差分だけ**を処理する（サイズ・更新日時が同じファイルは読み直さず、
  内容が同じなら埋め込み直さない。フォルダから消えたファイルのチャンクは削除する）。読めないファイル・本文が無いファイル
  （画像だけの PDF 等）・`max_file_mb` を超えるファイルは失敗一覧に載せて続行する。
- **埋め込みモデルの固定**: コレクションには作成時の埋め込みモデル名と次元を記録する。`embedding_url` のモデルを変えると
  ベクターを比べられなくなるため、そのコレクションは検索対象から外れ（理由を LLM に返す）、取り込みも「再構築」
  （全ベクターを消して取り込み直す）を求めるエラーになる。
- **検索**（`search_documents`、`src/vector_db/search.py`）: `collection` 省略時は全コレクションを横断し、類似度が `min_score`
  以上のチャンクを上位 `top_k` 件返す。各結果には出典のファイルパスをパスメモリー（`@N`）付きで添えるため、原文は
  `@N` を `Read`（メインエージェントは `explore` への委譲）に渡して確認できる。結果全体は `max_result_chars` 文字で切り詰める。
  結果が小さく抑えられるため、メインエージェント自身も直接呼べる（`[main_agent_tool_guard] allow_entries` に登録済み）。
  サブエージェントは `explore`・`worker`・`verifier` が持つ。

### 埋め込みサーバーの準備と設定

埋め込みはチャット用とは別の埋め込みモデルを llama-server で起動し、OpenAI 互換の `/v1/embeddings` で計算する
（`src/vector_db/embeddings.py`）。日本語を含む文書には多言語モデル（例: `bge-m3`・`multilingual-e5-large`）を使う。

```cmd
llama-server.exe -m D:\modelsge-m3-Q8_0.gguf --alias bge-m3 --embedding --pooling cls --port 12440 -c 8192 -b 8192 -ub 8192
```

- `--pooling` はモデルに合わせる（`bge-m3` は `cls`、`multilingual-e5` 系は `mean`）。`none` だとトークンごとのベクターが返り、
  取り込み時に「--pooling を none 以外にして起動してください」というエラーになる。
- 埋め込みは1チャンクを1回で処理するため、`-ub`（物理バッチ）を1チャンクのトークン数より大きくする。

`config.ini`（またはダッシュボードの config.ini タブ。「ベクターDB」プリセットで関係キーだけを表示できる）で有効にする:

```ini
[vector_db]
enabled = true
embedding_url = [{"base_url": "http://localhost:12440/v1", "api_key": "dummy-not-used", "model": "bge-m3"},]
```

`embedding_url` は `[llm] main_url` と同じ形式で、複数書くと接続できなかったときだけ次へ切り替える。接続先ごとにベクターが
変わらないよう、すべて同じ `model` にする必要があり、`start`/`end` は指定できない。`multilingual-e5` 系は
`query_prefix = "query: "`・`document_prefix = "passage: "` も設定する（末尾の空白を残すためダブルクォートで囲む）。

### 文書の取り込み（設定ダッシュボードの「ナレッジ」）

インスタンスのカードの「ナレッジ」ボタン（またはインスタンス詳細の「ナレッジ」サブタブ）から操作する
（`admin/knowledge.py`・`admin/static/knowledge.js`）。

1. 「コレクションを追加」にコレクション名・説明・取り込み元フォルダ（管理ツールの PC から見える絶対パス。共有フォルダの
   UNC パスも可）を入れて追加する。
2. 「取り込み（差分）」を押すと、管理ツールのプロセス内で取り込みが始まり、進捗（処理済みファイル数・処理中のファイル）・
   結果（追加・更新・変更なし・削除・失敗の件数と失敗理由）が表に出る。取り込み中は「停止」で中断できる
   （未処理のファイルは次回の取り込みで処理され、削除扱いにはならない）。
3. 文書を追加・更新したら、もう一度「取り込み（差分）」を押す（自動では取り込まない）。埋め込みモデルを変えたときは「再構築」。

取り込みは対象インスタンスの設定（`config_overrides.json` を重ねたもの）で行う。本体インスタンスが起動中でも
取り込みと検索は同時に行え、本体の再起動は不要。コレクションの作成・取り込み・削除は変更履歴（監査ログ）に残る。
同じ操作はコマンドラインからも行える（コレクションの作成はダッシュボードで行っておく）:

```cmd
python -m src.vector_db.ingest --instance default --collection manuals
python -m src.vector_db.ingest --instance default --collection manuals --rebuild
```

### Qdrant を使う

`[vector_db] backend = qdrant`・`qdrant_url = http://localhost:6333` にすると、ベクターを Qdrant サーバーに保存する
（REST API を httpx で直接呼ぶため、追加のパッケージは不要）。API キーが必要なサーバーは、そのインスタンスの `.env`
（ダッシュボードの「環境変数」）に `QDRANT_API_KEY` を書く。

- Qdrant 上のコレクション名は `qdrant_collection_prefix`（既定 `locohane_${instance}_`）＋コレクション名になる。
  この接頭辞で始まらないコレクションには一切触れないため、他の用途と同じ Qdrant サーバーを共有できる。
  インスタンスごとに接頭辞が変わるため、インスタンス同士の文書も混ざらない。
- コレクションの定義と取り込み済みファイルの記録は Qdrant ではなく `[vector_db] dir` の `catalog.sqlite` に置く。
  `backend` を切り替えた場合は、各コレクションを「再構築」して新しい保存先へ取り込み直す。
- インスタンスを削除してもデータフォルダの `catalog.sqlite` が消えるだけで、Qdrant 上のコレクションは残る。
  不要なら先にナレッジ画面でコレクションを削除するか、Qdrant 側で `locohane_<インスタンス名>_*` を削除する。

---

## プロンプト資産の自動チューニングループ（evals/）

`system_prompt.md`・`SKILL.md`・ツール docstring などの「LLM に渡すプロンプト資産」を、
実際のローカル LLM（llama.cpp server）を動かして自動評価し、失敗があれば修正して
再評価する仕組み。`.claude/skills/tune-prompt/SKILL.md` の手順書に沿って
Claude Code から `/tune-prompt system_prompt` のように実行する。

- 評価ケースは `evals/cases/<target>/*.yaml`（現状 `system_prompt` に1件、`system_prompt_scale` に1件）。
  ルールベース判定（`expect`: 特定ツールの呼び出し有無・応答文字列の含有等）と、
  自由記述の `judge`（transcript を読んで合否判断させる）を併用できる。
- `python evals/run_all.py system_prompt` で全ケースを直列実行し、結果は
  `evals/results/<target>/<timestamp>/`（`.gitignore` 対象、再生成可能なデータ）へ出力。
- `--instance <インスタンス名>` を付けると、設定ダッシュボードのインスタンス
  （`config_overrides.json` とインスタンス別 `.env`）の設定で評価する（省略時は `default`）。
- **スキル安定化トライアウト**: `--repeat N` を付けると各ケースを N 回ずつ直列に実行し、
  サマリ末尾と `tryout.json` にケースごとの合格回数と判定（全ケース N/N で合格。judge 付きのケースは
  全回の judge を読んで判断する）を出す。1回の合格が偶然でないかを確かめるためのもので、
  ドラフトスキルの昇格（promote-skill）では必須。ケースと `--skill-overlay` のスキルは開始時に一時フォルダへ
  写して固定し、そのハッシュ（`cases_sha256`・`skill_overlays[].sha256`）も `tryout.json` に残す
  （`tryout.json` は `--repeat 1` でも出力する）。
- `--cases-dir <フォルダ>` で `evals/cases/<target>/` 以外のケース（ドラフトの `evals/` 等）を、
  `--skill-overlay <スキルフォルダ>` で本番のスキル構成の上にスキルを最優先で重ねて、
  `--results-dir` で結果の出力先を変えて実行できる。
- `evals/run_case.py` は Chainlit の UI 呼び出しを `evals/headless_chainlit.py` で
  スタブに差し替え、`src/graph.py` のグラフを直接 `ainvoke` する（Chainlit サーバー起動不要）。
- チューニング時は編集前スナップショットを `evals/history/<target>/` に退避し、
  変更内容と理由を `evals/tuning_log.md` に追記する。git へのコミットは行わない。
- 同じ仕組みを流用し、`config.ini` の timeout系設定（`request_timeout_seconds`
  等）を実行環境のスペックに応じて実測チューニングする `config_timeouts`
  ターゲットもある（`evals/analyze_timing.py` で推奨値を算出し、適用は手動）。

詳細は [`evals/README.md`](evals/README.md) を参照。

---

## 設定リファレンス（config.ini）

| セクション | キー | 意味 | 対応する環境変数 |
|-----------|------|------|------------------|
| `[llm]` | `main_url` | メインエージェント用のLLM接続先リスト（`[{"base_url":...,"api_key":...,"model":...}]` のJSON/Python風リスト形式、複数指定可。各要素に任意で `start`/`end`（使用可能時間帯、単位は時間、分は小数、必ずセットで指定）、`provider`（`openai_compatible`既定/`llama_cpp`/`vllm`。推論サーバーの種類で、拡張パラメータ名とthinkingのフィールド名をサーバーに合わせる（`src/llm/dialect.py`）。`llama_cpp`は`round_robin`/`priority_failover`戦略が選ぶ前にGET /slotsで空き確認する対象にもなる）を追加でき、リスト全体で最低1件は`start`/`end`両方省略した常時使用可能な接続先が必要） | `LLM_MAIN_URL` |
| `[llm]` | `main_routing_strategy` | `main_url` が複数件のときの選び方（`round_robin`/`random`/`priority_failover`。`round_robin`/`priority_failover`はprovider="llama_cpp"の接続先を選ぶ前にGET /slotsで空きを確認し、無ければスキップして次点へ、全滅なら待機する。選択から最初の送信までは同時に選択中の他の呼び出しが同じ空きを使わないよう予約する） | `LLM_MAIN_ROUTING_STRATEGY` |
| `[llm]` | `sub_url` | サブエージェント（`dispatch_agent`）用のLLM接続先リスト。形式は `main_url` と同じ | `LLM_SUB_URL` |
| `[llm]` | `sub_routing_strategy` | `sub_url` が複数件のときの選び方。形式は `main_routing_strategy` と同じ。サブエージェントにモデル指定（`agents/*.md` の `model` / `dispatch_agent` の `model` 引数）がある場合は、そのモデルの接続先だけを候補にこの規則で選ぶ（一致する接続先が無ければ `sub_default_model`、それも無ければ指定は無視） | `LLM_SUB_ROUTING_STRATEGY` |
| `[llm]` | `sub_default_model` | サブエージェントにモデル指定が無い（または指定モデルの接続先が無い・全て時間帯外の）場合に使うモデル名（`sub_url` の `model` と大文字小文字を区別せず照合）。`sub_url` に軽量・高性能モデルを混在させる場合に、未指定の委譲が無作為に振られるのを防ぐ。空欄なら従来どおりモデル名を見ずに選ぶ（一致する接続先が無い・全て時間帯外なら無視。名前の誤りは起動時に WARNING を1回出す）。**`sub_url` 未指定（メインの接続先を引き継ぐ設定）でも有効で、メインが別モデルの接続先を使っていると引き継がず、`main_url` のうちこのモデルの接続先から選ぶ** | `LLM_SUB_DEFAULT_MODEL` |
| `[llm]` | `temperature` | 生成のばらつき | `LLM_TEMPERATURE` |
| `[llm]` | `top_p` | 累積確率上位のみサンプリング（空欄で未指定） | `LLM_TOP_P` |
| `[llm]` | `top_k` | 上位k候補のみサンプリング（llama.cpp/vLLM拡張、空欄で未指定） | `LLM_TOP_K` |
| `[llm]` | `repeat_penalty` | 直近トークンの再出現抑制（llama.cpp拡張、`provider=vllm`へは`repetition_penalty`として送信、空欄で未指定）。thinking内の同一文言ループ抑制に有効 | `LLM_REPEAT_PENALTY` |
| `[llm]` | `frequency_penalty` | 出現済みトークン全体への一律ペナルティ（空欄で未指定） | `LLM_FREQUENCY_PENALTY` |
| `[llm]` | `presence_penalty` | 一度でも出現したトークンへの一律ペナルティ（空欄で未指定） | `LLM_PRESENCE_PENALTY` |
| `[llm]` | `max_tokens` | 1リクエストあたりの最大生成トークン数（空欄で無制限） | `LLM_MAX_TOKENS` |
| `[llm]` | `dry_multiplier` | DRYサンプラーの強度（llama.cpp拡張、`dry_*`は`provider=vllm`へは送らない、空欄で無効）。フレーズ単位の反復に効く | `LLM_DRY_MULTIPLIER` |
| `[llm]` | `dry_base` | DRYサンプラーの反復長に対するペナルティ指数増加率（空欄で未指定） | `LLM_DRY_BASE` |
| `[llm]` | `dry_allowed_length` | DRYサンプラーがこの文字数以下の反復を許容する閾値（空欄で未指定） | `LLM_DRY_ALLOWED_LENGTH` |
| `[llm]` | `dry_penalty_last_n` | DRYサンプラーが反復検出に遡って見るトークン数（空欄で未指定） | `LLM_DRY_PENALTY_LAST_N` |
| `[llm]` | `dry_sequence_breakers` | DRYサンプラーの反復検出リセット区切り文字（リスト形式、空リスト`[]`で既定値） | `LLM_DRY_SEQUENCE_BREAKERS` |
| `[llm]` | `enable_thinking` | Qwen3系モデルのthinking（reasoning、`<think>`ブロック）モードのON/OFF（llama.cpp/vLLM共通、`chat_template_kwargs`で送信、空欄なら未指定でモデル・llama-server既定に委ねる） | `LLM_ENABLE_THINKING` |
| `[llm]` | `reasoning_format` | thinkingブロックの出力形式（`none`/`deepseek`/`deepseek-legacy`。llama.cpp拡張、`provider=vllm`へは送らない。空欄なら未指定でllama-server既定の`auto`に委ねる） | `LLM_REASONING_FORMAT` |
| `[llm]` | `reasoning_budget` | thinkingに使えるトークン数上限（`-1`=無制限・`N>0`=上限。llama-serverへは`reasoning_budget_tokens`、vLLMへは`thinking_token_budget`として送信。llama-serverはリクエストでの`0`を無視するため、thinkingを止めるなら`reasoning_effort=none`か`enable_thinking=false`を使う。空欄なら未指定でllama-server既定の`-1`に委ねる） | `LLM_REASONING_BUDGET` |
| `[llm]` | `reasoning_budget_message` | 上記`reasoning_budget`を使い切った際にthinking終了タグ直前へ挿入するメッセージ（`provider=vllm`へは送らない。空欄なら挿入しない） | `LLM_REASONING_BUDGET_MESSAGE` |
| `[llm]` | `reasoning_effort` | chat templateへ渡す推論努力レベル（`none`/`default`/`minimal`/`low`/`medium`/`high`/`xhigh`/`max`。llama.cpp拡張、llama.cpp/vLLM共通、`none`はthinking無効化（`enable_thinking=true`より優先して`enable_thinking=false`も送る）、`default`は送らないのと同じ。受け付ける値はモデルのテンプレート次第で対応外はリクエストエラー。空欄なら未指定でサーバー既定に委ねる） | `LLM_REASONING_EFFORT` |
| `[llm]` | `reasoning_preserve` | 過去のassistantメッセージのthinkingを履歴に残して送るか（`chat_template_kwargs`の`preserve_reasoning`/`preserve_thinking`で送信。`true`時は保持中の過去応答のthinkingもリクエストに含める（フィールド名は`llama_cpp`=`reasoning_content`、`vllm`=`reasoning`、`openai_compatible`=両方）。空欄なら未指定でllama-server既定に委ねる） | `LLM_REASONING_PRESERVE` |
| `[llm]` | `track_token_usage` | トークン使用量の取得を有効にする（Chainlit UI表示・eval結果に反映） | `LLM_TRACK_TOKEN_USAGE` |
| `[llm]` | `request_timeout_seconds` | LLMサーバーへの応答待ちタイムアウト秒数（read/write/pool） | `LLM_REQUEST_TIMEOUT_SECONDS` |
| `[llm]` | `stream_chunk_timeout_seconds` | ストリーミング中にチャンクが届かない場合のタイムアウト秒数 | `LLM_STREAM_CHUNK_TIMEOUT_SECONDS` |
| `[llm]` | `max_concurrent_requests` | 推論サーバーへの同時リクエスト数上限。1以上でSemaphore(N)ガード（既定1＝完全直列化）、0以下で無制限。全セッション合算で数え、生成1回の間だけ枠を占有する。`[graph]`/`[subagent]` の `max_parallel` がこの値より大きくても、超えた分はLLM呼び出しの直前で待つだけで、エラーにはならない（待ち時間はタイムアウトに数えない） | `LLM_MAX_CONCURRENT_REQUESTS` |
| `[llm]` | `round_robin_slots_probe_timeout_seconds` | `round_robin`/`priority_failover`戦略がprovider="llama_cpp"の接続先を選ぶ前に送るGET /slots問い合わせ自体のタイムアウト秒数（既定3、確認できなければ空きありとみなすfail-safe） | `LLM_ROUND_ROBIN_SLOTS_PROBE_TIMEOUT_SECONDS` |
| `[llm]` | `round_robin_busy_poll_interval_seconds` | `round_robin`/`priority_failover`戦略で候補の全接続先に空きスロットが無かった場合、再確認までに待機する秒数（既定2） | `LLM_ROUND_ROBIN_BUSY_POLL_INTERVAL_SECONDS` |
| `[paths]` | `common_data_dir` | 各種データ保存先パスの共通ベースディレクトリ（既定 `./data/${instance}`）。本セクションの`checkpoint_db`/`memory_dir`/`plans_dir`、および`[log]`/`[default_workdir]`/`[path_memory]`/`[chat_log]`の`dir`系キーの値に`${common_data_dir}`と書くとここで指定した値に置換される（configparser標準の補間ではなくconfig.py側の独自置換）。`common_data_dir`自身とこれらのキーでは`${instance}`がインスタンス名（環境変数`LOCOHANE_INSTANCE`、未設定なら`default`）に置換される | `COMMON_DATA_DIR` |
| `[paths]` | `skills_dir` | スキルフォルダ | `SKILLS_DIR` |
| `[paths]` | `agents_dir` | エージェント種別定義フォルダ（`dispatch_agent` の `agent_type`） | `AGENTS_DIR` |
| `[paths]` | `project_locohane_dir` | プロジェクト固有の拡張ディレクトリ（ClaudeCode の `.claude/` 相当）。配下の `skills/`（`skills_dir` にマージ走査、同名は優先）・`agents/`（`agents_dir` にマージ走査、同名は優先）・`LOCOHANE.md`（プロジェクト固有指示、存在しなくてもエラーにならない）を自動検知する。`nudge_messages` と同じリスト形式で複数ディレクトリ指定可。要素を `{"dir": ..., "python": ...}` の辞書で書くと、そのディレクトリの `skills/` 配下の `.py` スクリプトだけを専用のPython環境で起動する（`[scripts].python` より優先） | `PROJECT_LOCOHANE_DIR` |
| `[paths]` | `system_prompt_path` | メインエージェント用システムプロンプトのテンプレート | `SYSTEM_PROMPT_PATH` |
| `[paths]` | `bin_path` | 外部バイナリ実行ファイルの配置先ディレクトリ一覧（`project_locohane_dir`と同じリスト形式）。コマンド名を素の状態で叩くスキルがOS側PATH未登録でも呼び出せるようにする（`src/tools/_subprocess_env.py`参照） | `BIN_PATH` |
| `[paths]` | `checkpoint_db` | 会話状態 SQLite | `CHECKPOINT_DB` |
| `[paths]` | `memory_dir` | 永続メモリーの保存先ルート | `MEMORY_DIR` |
| `[paths]` | `plans_dir` | `create_plan` が `detail_markdown` を渡した際の詳細計画Markdownの保存先 | `PLANS_DIR` |
| `[paths]` | `help_path` | `help` ツールが返すヘルプ本文Markdownのパス | `HELP_PATH` |
| `[chainlit_files]` | `retention_days` | Chainlit自身のセッションファイルディレクトリ（`.files/<セッションID>/`）の保持日数（0以下で自動削除無効）。ディレクトリ単位で削除 | `CHAINLIT_FILES_RETENTION_DAYS` |
| `[chainlit_files]` | `cleanup_interval_hours` | 自動削除チェックの実行間隔（時間） | `CHAINLIT_FILES_CLEANUP_INTERVAL_HOURS` |
| `[elements]` | `dir` | 添付ファイル・回答本文への画像埋め込みの永続化先（スレッド再開・プロセス再起動後も表示するため） | `ELEMENTS_DIR` |
| `[elements]` | `retention_days` | 上記の保持日数（0以下で自動削除無効） | `ELEMENTS_RETENTION_DAYS` |
| `[elements]` | `cleanup_interval_hours` | 自動削除チェックの実行間隔（時間） | `ELEMENTS_CLEANUP_INTERVAL_HOURS` |
| `[images]` | `max_long_side_pixels` | LLMへ渡す前に画像を縮小する長辺ピクセル数の上限（`0`で縮小なし） | `IMAGE_MAX_LONG_SIDE_PIXELS` |
| `[images]` | `jpeg_quality` | 縮小後に再エンコードするJPEG品質（1-95） | `IMAGE_JPEG_QUALITY` |
| `[images]` | `inline_preview_max_long_side_pixels` | 回答本文（Markdownテーブルのセル等）へ直接埋め込む画像プレビューの長辺ピクセル数の上限。`analyze_image`の`show_in_chat=True`と同じセッションファイル配信経路で渡すためVision向け設定より小さくても差し支えなく、表示帯域・ディスク使用量を抑える目的で別に小さい値を使う | `IMAGE_INLINE_PREVIEW_MAX_LONG_SIDE_PIXELS` |
| `[images]` | `inline_preview_jpeg_quality` | 上記プレビューの再エンコード品質（1-95） | `IMAGE_INLINE_PREVIEW_JPEG_QUALITY` |
| `[images]` | `inline_preview_min_long_side_pixels` | 上記プレビューの長辺ピクセル数の下限。これより小さい画像はこの値まで拡大してから埋め込む（`0`で拡大なし） | `IMAGE_INLINE_PREVIEW_MIN_LONG_SIDE_PIXELS` |
| `[scripts]` | `timeout` | `run_script`/`execute_python_code` 共通のタイムアウト秒 | `SCRIPT_TIMEOUT` |
| `[scripts]` | `python` | `.py` 実行に使う Python。空欄なら本体を起動している Python（`python_env.bat` の `PYTHON_DIR`） | `SCRIPT_PYTHON` |
| `[scripts]` | `code_execution_enabled` | `execute_python_code` ツール自体の有効/無効 | `CODE_EXECUTION_ENABLED` |
| `[scripts]` | `background_max_runtime_seconds` | `run_script_background` のジョブを強制終了するまでの上限秒 | `SCRIPT_BACKGROUND_MAX_RUNTIME_SECONDS` |
| `[scripts]` | `background_job_retention_seconds` | `run_script_background` の完了済みジョブが `check_script_job` で未回収のまま残ってよい秒数 | `SCRIPT_BACKGROUND_JOB_RETENTION_SECONDS` |
| `[scripts]` | `background_min_poll_interval_seconds` | `check_script_job` を同一ジョブへ再度呼べるまでの最短間隔秒（0以下で無効化） | `SCRIPT_BACKGROUND_MIN_POLL_INTERVAL_SECONDS` |
| `[scripts]` | `background_min_poll_message` | 上記間隔未満で呼ばれた際にLLMへ返すメッセージのテンプレート（`{wait_remaining}`/`{job_id}`/`{min_interval}` を埋め込み可）。空欄なら既定文言 | `SCRIPT_BACKGROUND_MIN_POLL_MESSAGE` |
| `[scripts]` | `background_inline_wait_max_seconds` | `run_script_background`/`execute_python_code_background` がジョブ完了をLLMを介さずコード側で待つ上限秒数。超過時のみ `job_id` を返してLLMへ制御を戻す | `SCRIPT_BACKGROUND_INLINE_WAIT_MAX_SECONDS` |
| `[scripts]` | `background_progress_push_interval_seconds` | 待機中、人間向けに経過秒数・標準出力/標準エラー末尾をチャットへ直接送る間隔（秒） | `SCRIPT_BACKGROUND_PROGRESS_PUSH_INTERVAL_SECONDS` |
| `[scripts]` | `background_job_output_tail_chars` | 進捗表示・`check_script_job`/`stop_script_job`/`read_thread_note`が末尾のみ表示する際の標準出力/標準エラー/進捗メモの最大文字数（`[subagent]`配下の同種表示も共有） | `SCRIPT_BACKGROUND_JOB_OUTPUT_TAIL_CHARS` |
| `[file_tools_duplicate_guard]` | `enabled` | Read/Glob/Grep/json_query ツールの同一引数繰り返し呼び出しを防止するガードの有効/無効 | `FILE_TOOLS_DUPLICATE_GUARD_ENABLED` |
| `[file_tools_duplicate_guard]` | `max_calls` | 同一シグネチャの呼び出しを許可する回数（既定1回） | `FILE_TOOLS_DUPLICATE_GUARD_MAX_CALLS` |
| `[file_tools_duplicate_guard]` | `carry_over_to_main` | サブエージェント内の呼び出し履歴をメイン判定へ持ち越すかどうか | `FILE_TOOLS_DUPLICATE_GUARD_CARRY_OVER` |
| `[main_agent_tool_guard]` | `mode` | メインエージェント自身がビルトインツール・`run_script`配下のスキルスクリプトを直接呼び出せる回数を制限するガードのモード（`dispatch_agent`配下のサブエージェントは対象外）。`false`=無効、`tools_skills_only`=MCP動的ツール（`mcp__server__tool`形式）のみ常に許可しそれ以外は制限、`all`（既定）=MCP動的ツールも含め全て制限。トークン消費の大きい重量系ツールの連打によるトークン上限到達を防ぐ | `MAIN_AGENT_TOOL_GUARD_MODE` |
| `[main_agent_tool_guard]` | `visibility_mode` | `mode!=false`時の可視化モード。対象はスキル一覧とビルトインツールの呼べない名前案内（`mode=all`時はMCP動的ツール名も混ざりうる）。`strict`（既定）は呼び出せないツール・スキルを一覧から完全除外、`hint`は一覧に出しつつ直接実行不可のものへ`dispatch_agentへ委譲`という注記を付ける | `MAIN_AGENT_TOOL_GUARD_VISIBILITY_MODE` |
| `[main_agent_tool_guard]` | `allow_entries` | 許可リスト（ホワイトリスト）。`["ツール名", max_calls]`または`[["スキル名","スクリプトファイル名"], max_calls]`の要素からなるリスト形式で、未登録のツール・スキルスクリプトは`mode=all`（または`tools_skills_only`時のMCP以外）の間メインエージェントから一切呼び出せない。`max_calls`は`0`=登録のみで完全ブロック、`-1`=無制限、`1`以上=その回数まで許可（他のガードと0/-1の意味が逆なので注意） | `MAIN_AGENT_TOOL_GUARD_ALLOW_ENTRIES` |
| `[graph]` | `implementation` | ReAct ループの実装（`handwritten` または `prebuilt`） | `GRAPH_IMPL` |
| `[graph]` | `recursion_limit` | メインReActループ（agent→tools遷移）の最大反復回数。超過時は打ち切りメッセージを表示 | `GRAPH_RECURSION_LIMIT` |
| `[graph]` | `connection_error_max_retries` | LLMサーバーとの通信エラー（接続失敗・5xx等）検知時、直近接続先を一時クールダウンした上でグラフを再構築し同じ反復を自動リトライする回数（メインエージェント用。`0`でリトライせず通信エラーを通知して中断） | `GRAPH_CONNECTION_ERROR_MAX_RETRIES` |
| `[graph]` | `max_parallel` | メインエージェントのツール呼び出し（ImageAwareToolNode）の同時実行数上限。1以上でSemaphore(N)ガード、0以下でガード無効化 | `GRAPH_TOOL_MAX_PARALLEL` |
| `[graph]` | `token_guard_enabled` | メインエージェントのトークン量ガード（直近1回の応答が閾値到達で引継ぎプロンプトへ差し替え）の有効/無効 | `GRAPH_TOKEN_GUARD_ENABLED` |
| `[graph]` | `token_guard_soft_threshold` | 上記ガードが発動するトークン数閾値。実測: この仕組みが無い状態では1リクエストあたり24,833→128,000まで単調増加しコンテキスト上限で停止した事例あり | `GRAPH_TOKEN_GUARD_SOFT_THRESHOLD` |
| `[graph]` | `handoff_prompt_path` | 上記ガード発動時に差し込む、新しいチャットへの引継ぎ手順を指示するMarkdownファイルのパス | `GRAPH_HANDOFF_PROMPT_PATH` |
| `[subagent]` | `max_iterations` | `dispatch_agent` の内部ReActループの最大反復回数 | `SUBAGENT_MAX_ITERATIONS` |
| `[subagent]` | `max_parallel` | `dispatch_agent` の実LLM呼び出しの同時実行数上限。1以上でSemaphore(N)ガード、0以下でガード無効化 | `SUBAGENT_MAX_PARALLEL` |
| `[subagent]` | `batch_max_groups` | `dispatch_agent_batch` が1回で起動してよいグループ（サブエージェント）数の上限。超える場合はジョブを起動せずエラー。同時実行数ではない。0以下で無制限 | `SUBAGENT_BATCH_MAX_GROUPS` |
| `[subagent]` | `batch_stop_after_unreachable_groups` | `dispatch_agent_batch` で、LLMのタイムアウト・通信エラーが再試行後も続いて打ち切られたグループがこの数に達したら、未起動のグループを起動せず「未実行」として返す。0以下で無効 | `SUBAGENT_BATCH_STOP_AFTER_UNREACHABLE_GROUPS` |
| `[subagent]` | `token_guard_enabled` | サブエージェントのトークン使用量ガードの有効/無効 | `SUBAGENT_TOKEN_GUARD_ENABLED` |
| `[subagent]` | `token_guard_soft_threshold` | ソフト警告（注意メッセージ注入）のトークン閾値 | `SUBAGENT_TOKEN_GUARD_SOFT_THRESHOLD` |
| `[subagent]` | `token_guard_hard_threshold` | ハード打ち切りのトークン閾値 | `SUBAGENT_TOKEN_GUARD_HARD_THRESHOLD` |
| `[subagent]` | `token_guard_soft_warning_text` | ソフト警告到達時に注入する注意メッセージの文言（`write_thread_note`への書き出しを促しつつ、ツール呼び出し自体は禁止しない） | `SUBAGENT_TOKEN_GUARD_SOFT_WARNING_TEXT` |
| `[subagent]` | `empty_response_max_retries` | 空応答の再試行回数 | `SUBAGENT_EMPTY_RESPONSE_MAX_RETRIES` |
| `[subagent]` | `background_job_retention_seconds` | `dispatch_agent` のジョブが終了後、`check_dispatch_agent_job` で一度も取得されないまま残ってよい秒数 | `SUBAGENT_BACKGROUND_JOB_RETENTION_SECONDS` |
| `[subagent]` | `background_min_poll_interval_seconds` | `check_dispatch_agent_job` を連続で呼べる最短間隔秒数。0以下で無効化 | `SUBAGENT_BACKGROUND_MIN_POLL_INTERVAL_SECONDS` |
| `[subagent]` | `background_min_poll_message` | 上記間隔未満で呼ばれた際にLLMへ返すメッセージのテンプレート（`{wait_remaining}`/`{job_id}`/`{min_interval}` を埋め込み可）。空欄なら既定文言 | `SUBAGENT_BACKGROUND_MIN_POLL_MESSAGE` |
| `[subagent]` | `background_inline_wait_max_seconds` | `dispatch_agent` がジョブ完了をLLMを介さずコード側で待つ上限秒数。超過時のみ `job_id` を返してLLMへ制御を戻す | `SUBAGENT_BACKGROUND_INLINE_WAIT_MAX_SECONDS` |
| `[subagent]` | `background_progress_push_interval_seconds` | 待機中、人間向けに経過秒数・反復回数・進捗メモをチャットへ直接送る間隔（秒）。最初の表示以後は、今している動作（【思考中】等）が変わったら間隔を待たずに書き換える（最短1秒空ける） | `SUBAGENT_BACKGROUND_PROGRESS_PUSH_INTERVAL_SECONDS` |
| `[subagent]` | `background_llm_timeout_max_retries` | 実行中のLLM呼び出しがタイムアウトした場合、モデルを再構築して同じ反復を再試行する最大回数 | `SUBAGENT_BACKGROUND_LLM_TIMEOUT_MAX_RETRIES` |
| `[subagent]` | `agent_type_run_script_allowlist` | `dispatch_agent`の`agent_type`ごとに`run_script`で呼べるスキル/スクリプトを絞り込むホワイトリスト（`[[agent_type, 対象], ...]`形式、対象は`"スキル名"`または`["スキル名","スクリプトファイル名"]`、空欄なら既定19件。登録がある`agent_type`は`{{skills}}`の一覧も登録スキルのみに絞られる（絞り込みたくない場合は`{{skills}}`の代わりに`{{all_skills}}`を使う）） | `SUBAGENT_AGENT_TYPE_RUN_SCRIPT_ALLOWLIST` |
| `[user_response_timeouts]` | `approval_seconds` | `approve_plan`／`run_script`・`execute_python_code`の個別実行確認でユーザー応答を待つ秒数。`0`で無期限待ち | `APPROVAL_TIMEOUT_SECONDS` |
| `[user_response_timeouts]` | `ask_user_question_seconds` | `AskUserQuestion`（自由記述質問。`labels`省略時は単一入力、指定時は複数項目フォーム）でユーザー応答を待つ秒数。`0`で無期限待ち | `ASK_USER_QUESTION_TIMEOUT_SECONDS` |
| `[user_response_timeouts]` | `ask_user_choice_seconds` | `ask_user_choice`（選択肢質問）でユーザー応答を待つ秒数。`0`で無期限待ち | `ASK_USER_CHOICE_TIMEOUT_SECONDS` |
| `[plan]` | `allow_badge_unlock` | Plan Mode バッジの双方向切り替えを許可するか | `PLAN_ALLOW_BADGE_UNLOCK` |
| `[plan]` | `reset_approval_on_recreate` | 承認済み（Edit Automatically）状態で`create_plan`を再度呼んだ際、`plan_approved`を無条件でリセットしてPlan Modeへ戻すか。`false`なら承認状態を維持したままstepsだけ差し替える | `PLAN_RESET_APPROVAL_ON_RECREATE` |
| `[plan]` | `reset_approval_on_new_message` | 新しいユーザーメッセージを受け取るたびに`plan_approved`を無条件でリセットしてPlan Modeへ戻すか。`false`なら承認状態をメッセージをまたいで維持する（`thinking_loop_guard`のリトライ上限到達後、ユーザーが続行メッセージを送っても再承認が不要になる） | `PLAN_RESET_APPROVAL_ON_NEW_MESSAGE` |
| `[plan]` | `auto_approve` | `approve_plan`呼び出し時にユーザーへの承認/却下確認を一切行わず自動承認するか（`false`が既定。書き込み系ツールが人の確認なしに実行されるため、無人自動化用途以外での使用は推奨しない） | `PLAN_AUTO_APPROVE` |
| `[plan]` | `plan_approval_exempt_scripts` | `run_script`/`run_script_background`の計画承認（Plan Mode）を免除する読み取り専用スクリプトのホワイトリスト（`[["スキル名","スクリプトファイル名"], ...]`形式、空欄なら既定7件）。免除は承認のみで、`[main_agent_tool_guard]`によるメインエージェントからの直接呼び出し制限は別枠 | `PLAN_APPROVAL_EXEMPT_SCRIPTS` |
| `[default_workdir]` | `dir` | エージェントの既定の作業ディレクトリのベース。実際の書き込み・`run_script`のcwdはこの配下の自セッション専用サブディレクトリ`_tmp_<name>`に限定される（`dir`直下への書き込みは許可されない） | `DEFAULT_WORKDIR` |
| `[default_workdir]` | `allow_sandbox_dir` | セッション分離の外側で常時書き込みを許可する追加ディレクトリのリスト（`[{"dir": "パス", "allow_entries": [["スキル名","スクリプトファイル名"], ...]}, ...]`形式）。各要素の`allow_entries`を空リストにすると、対象を問わずそのディレクトリへ無制限に書き込み可能になる。登録したディレクトリはスレッドを問わず常時書き込み可能になる点に注意（既定は空リストで無効） | `ALLOW_SANDBOX_DIR` |
| `[default_workdir]` | `retention_days` | 上記 `dir` 配下のファイル保持日数（0以下で自動削除無効） | `DEFAULT_WORKDIR_RETENTION_DAYS` |
| `[skill_creator]` | `draft_dir` | ユーザー別ドラフトスキルの置き場（既定 `${common_data_dir}/skill_drafts`）。スキル走査対象と重なると起動時エラー | `SKILL_DRAFT_DIR` |
| `[skill_creator]` | `tryout_repeats` | スキル安定化トライアウトの既定回数（昇格時に各ケースをこの回数だけ繰り返し、全回合格で合格。既定10） | `SKILL_TRYOUT_REPEATS` |
| `[skill_creator]` | `other_users_drafts` | 他ユーザーのドラフトの扱い。`hidden`（既定）／`listed`／`readable`／`full`（「ドラフトスキル（ユーザー別）と昇格」参照） | `SKILL_OTHER_USERS_DRAFTS` |
| `[skill_creator]` | `archive_dir` | 昇格したドラフトの退避先（既定 `${common_data_dir}/skill_drafts_archive`）。スキル走査対象・`draft_dir` と重なると起動時エラー | `SKILL_ARCHIVE_DIR` |
| `[skill_lab]` | `instance_locohane_dir` | インスタンス専用の拡張ディレクトリで、スキル研究室・promote-skill の昇格先（既定 `${instance_dir}` = `instances/<インスタンス名>`。`skills/`・`agents/`・回帰テスト用の `evals/<テーマID>/` を置く）。昇格先（対象）のインスタンスの値が使われる。本体も `project_locohane_dir` と同じく `skills/`・`agents/`・`LOCOHANE.md` を検知し、そのどれよりも後方（最優先）で常に走査する（`project_locohane_dir` を上書きしても外れない） | `INSTANCE_LOCOHANE_DIR` |
| `[skill_lab_worker]` | `max_iterations` | スキル調整ワーカーの スキル調整ループの最大反復回数（既定8）。このセクションはスキル調整ワーカーの設定画面にだけ出る（本体には出ない） | `SKILL_LAB_MAX_ITERATIONS` |
| `[skill_lab_worker]` | `max_hours` | 1テーマのループに使ってよい最大時間（既定6時間） | `SKILL_LAB_MAX_HOURS` |
| `[skill_lab_worker]` | `poll_interval_seconds` | ワーカーが処理待ちのテーマを探す間隔（既定10秒） | `SKILL_LAB_POLL_INTERVAL_SECONDS` |
| `[skill_lab_worker]` | `fixer_max_file_chars` | AI に渡す資産ファイル1つあたりの最大文字数（既定20000） | `SKILL_LAB_FIXER_MAX_FILE_CHARS` |
| `[skill_lab_worker]` | `transcript_excerpt_chars` | AI に渡す実行の記録の抜粋の最大文字数（1回分、既定6000） | `SKILL_LAB_TRANSCRIPT_EXCERPT_CHARS` |
| `[default_workdir]` | `cleanup_interval_hours` | default_workdir 自動削除チェック間隔（時間） | `DEFAULT_WORKDIR_CLEANUP_INTERVAL_HOURS` |
| `[log]` | `dir` | ログ出力先 | `LOG_DIR` |
| `[log]` | `level` | ログの詳細度。`info`（現行仕様、ツール呼び出しの概要のみ）／`debug`（ツール呼び出しの全引数・全結果・LLM応答本文・thinkingまで記録）／`none`（ログを一切生成しない） | `LOG_LEVEL` |
| `[log]` | `clear_on_startup` | 起動のたびに `app.log` を空にしてから書き始めるか（`false`＝従来通り追記） | `LOG_CLEAR_ON_STARTUP` |
| `[log]` | `max_lines` | app_*.log の最大行数（超過時にローテーション） | `LOG_MAX_LINES` |
| `[log]` | `retention_days` | ローテーション済み app_*.log の保持日数 | `LOG_RETENTION_DAYS` |
| `[log]` | `cleanup_interval_hours` | app_*.log 自動削除チェック間隔（時間） | `LOG_CLEANUP_INTERVAL_HOURS` |
| `[thinking_loop_guard]` | `enabled` | ループ検知＆ループガード＆リトライ機能の有効/無効 | `THINKING_LOOP_GUARD_ENABLED` |
| `[thinking_loop_guard]` | `target` | ループ検知の監視対象（`all`: 思考と本文の両方 / `content_only`: 本文だけを監視し、思考のループは`[llm].reasoning_budget`での打ち切りに任せる。`thinking_only`: 思考だけを監視し、本文は対象外。`content_only`で思考予算が無制限なら起動時に警告） | `THINKING_LOOP_GUARD_TARGET` |
| `[thinking_loop_guard]` | `window_chars` | ループ判定対象とする直近テキストのウィンドウ文字数 | `THINKING_LOOP_GUARD_WINDOW_CHARS` |
| `[thinking_loop_guard]` | `check_interval_chars` | 何文字増えるごとに再チェックするか | `THINKING_LOOP_GUARD_CHECK_INTERVAL_CHARS` |
| `[thinking_loop_guard]` | `confirm_count` | ループ確定と判定するまでの連続成立回数（誤検知防止） | `THINKING_LOOP_GUARD_CONFIRM_COUNT` |
| `[thinking_loop_guard]` | `max_history_chars` | 反復検知で比較対象とする過去履歴の上限文字数 | `THINKING_LOOP_GUARD_MAX_HISTORY_CHARS` |
| `[thinking_loop_guard]` | `match_ratio_threshold` | 直近ウィンドウとの最長一致率がこの値を超えたらループ候補とみなす閾値 | `THINKING_LOOP_GUARD_MATCH_RATIO_THRESHOLD` |
| `[thinking_loop_guard]` | `max_retries` | ループ検知後、注意メッセージを注入して再試行する最大回数 | `THINKING_LOOP_GUARD_MAX_RETRIES` |
| `[thinking_loop_guard]` | `empty_response_max_retries` | メインエージェントの空応答（tool_callsもcontentも無い応答）を検知した際の再試行最大回数 | `THINKING_LOOP_GUARD_EMPTY_RESPONSE_MAX_RETRIES` |
| `[thinking_loop_guard]` | `nudge_messages` | ループ検知後に注入する注意メッセージ（複数指定可） | `THINKING_LOOP_GUARD_NUDGE_MESSAGES` |
| `[tool_loop_guard]` | `enabled` | 全く同じ応答（本文とツール呼び出しの名前・引数）を連続で繰り返すループを検知する機能の有効/無効（`src/tool_loop_guard.py`）。ツールの結果やエラーかどうかは比べない。検知したら`[thinking_loop_guard]`と同じ仕組みで、繰り返した応答とその結果を会話履歴から取り除いたうえで（残すとモデルが同じ呼び出しを書き写し続けるため）、注意メッセージに「何を繰り返したか」を添えて再試行し、`max_retries`（思考のループと合算）で停止してユーザーに通知する。サブエージェントは上限でそこまでの経過を返して打ち切る。モデルにツール呼び出しを強制する`tool_choice`はQwen3.6では効かないため使わない | `TOOL_LOOP_GUARD_ENABLED` |
| `[tool_loop_guard]` | `max_repeats` | 全く同じ応答が何回連続したらループとみなすか（1以下で無効） | `TOOL_LOOP_GUARD_MAX_REPEATS` |
| `[tool_loop_guard]` | `nudge_messages` | ループ検知後に注入する注意メッセージ（複数指定可。思考のループとは別に数えた回数の順に使い、末尾に何を繰り返したかが自動で添えられる） | `TOOL_LOOP_GUARD_NUDGE_MESSAGES` |
| `[tool_loop_guard]` | `exclude_tools` | このツールだけを呼ぶ応答は数えない（状態確認のポーリング等。リスト形式、既定`["check_script_job", "check_dispatch_agent_job"]`） | `TOOL_LOOP_GUARD_EXCLUDE_TOOLS` |
| `[thinking_control]` | `enabled` | ReActループの各ステップで、直前の履歴の形から思考レベル（`off`/`low`/`medium`/`high`/`xhigh`）をルールで選び、リクエストごとに切り替える機能全体の有効/無効（`src/llm/thinking_control.py`）。`off`は`enable_thinking=false`、それ以外は思考予算の大小で表すため、プロンプトの先頭部分は変わらずKVキャッシュは外れない（`reasoning_effort`はテンプレート次第でシステムプロンプトが変わるため切り替えに使わない）。`false`なら従来と全く同じリクエスト。`[llm]`側で思考が無効なら働かない。判定はアプリログの`thinking_control:`行（レベル・判定理由・直前ステップの思考文字数・予算での打ち切り・本文への漏れ）で確認できる | `THINKING_CONTROL_ENABLED` |
| `[thinking_control]` | `apply_to_main` / `apply_to_sub` | メインエージェント / サブエージェントのループに適用するか（要約・圧縮のLLM呼び出しには常に適用しない） | `THINKING_CONTROL_APPLY_TO_MAIN` / `THINKING_CONTROL_APPLY_TO_SUB` |
| `[thinking_control]` | `rule_user_turn` / `rule_tool_error` / `rule_consecutive_cap` / `rule_after_tools` | 判定ルール1〜4それぞれに当てはまったときのレベル（`off`〜`xhigh`、`false`でそのルールを無効化。1: 末尾がユーザー発言・ナッジ（画像のフォローアップは除く）、2: 直前のツールがエラー、3: 直前`max_consecutive_reduced`回が全てこのレベル未満、4: 直前に呼んだツールが全て`after_tools`にある）。ルール1→4の順で最初に当てはまったものを使い、どれにも当たらなければ`default_level`。既定は`high`/`high`/`high`/`low` | `THINKING_CONTROL_RULE_USER_TURN` 等 |
| `[thinking_control]` | `default_level` | どのルールにも当たらないときのレベル | `THINKING_CONTROL_DEFAULT_LEVEL` |
| `[thinking_control]` | `budget_low` / `budget_medium` / `budget_high` / `budget_xhigh` | 各レベルの思考予算（-1=無制限、空欄なら`[llm].reasoning_budget`）。小さくするほど予算での打ち切りが増え、思考が本文へ漏れやすくなる | `THINKING_CONTROL_BUDGET_LOW` 等 |
| `[thinking_control]` | `after_tools` | ルール4の対象ツール一覧（リスト形式`["Read", "Grep"]`）。起動時に存在しないツール名を警告する | `THINKING_CONTROL_AFTER_TOOLS` |
| `[thinking_control]` | `error_prefixes` | ルール2でエラーとみなすツール結果の先頭文字列（リスト形式。`ToolMessage.status="error"`も対象） | `THINKING_CONTROL_ERROR_PREFIXES` |
| `[thinking_control]` | `max_consecutive_reduced` | ルール3が働くまでの連続回数（0以下で無効） | `THINKING_CONTROL_MAX_CONSECUTIVE_REDUCED` |
| `[context_trim]` | `enabled` | 古い `ToolMessage` を切り詰めてプリフィル遅延を抑える機能の有効/無効 | `CONTEXT_TRIM_ENABLED` |
| `[context_trim]` | `trigger_total_tokens` | トリムを発動させる閾値（Claude APIのcontext editing、`clear_tool_uses_20250919`のtrigger.value相当）。LLM呼び出しのtotal_tokensがこの値未満のうちは発動しない。一度でも達したら、以後その会話ではトリムを継続する（解除・再トリムの繰り返しでプレフィックスキャッシュが毎回外れるのを防ぐため）。コンテキスト圧縮が走ると解除される。0以下なら常に発動 | `CONTEXT_TRIM_TRIGGER_TOTAL_TOKENS` |
| `[context_trim]` | `keep_recent_tool_iterations` | 全文保持する直近の反復数（1反復＝ReActループ1周＝LLM呼び出し1回。`AIMessage`の件数で数える。ユーザーの発話回数では数えない — 画像フォローアップや各種nudgeが`HumanMessage`として積まれるためずれる。並列tool_callsに対応する`ToolMessage`群は同じ反復内で分断されない） | `CONTEXT_TRIM_KEEP_RECENT_TOOL_ITERATIONS` |
| `[context_trim]` | `trim_ai_messages` | `ToolMessage`だけでなく`AIMessage`（モデル自身の思考本文・tool_calls引数）も切り詰め対象にするか。`execute_python_code`のcode引数へファイル本文を書き写す使い方をすると`ToolMessage`側だけの切り詰めでは1リクエスト入力が膨らみ続けるため既定で有効 | `CONTEXT_TRIM_AI_MESSAGES` |
| `[context_trim]` | `keep_recent_ai_iterations` | 全文保持する直近の反復数（`keep_recent_tool_iterations`と同じ判定方式・独立した値。`trim_ai_messages=true`の場合のみ意味を持つ） | `CONTEXT_TRIM_KEEP_RECENT_AI_ITERATIONS` |
| `[context_trim]` | `truncated_max_chars` | 切り詰め対象 `ToolMessage` の残す最大文字数 | `CONTEXT_TRIM_TRUNCATED_MAX_CHARS` |
| `[context_trim]` | `duplicate_guard_tool_max_chars` | Read/Glob/Grep/json_query/analyze_image（`[file_tools_duplicate_guard]`の対象ツール）の `ToolMessage` にだけ適用する切り詰め文字数（`truncated_max_chars`の代わりに使う） | `CONTEXT_TRIM_DUPLICATE_GUARD_TOOL_MAX_CHARS` |
| `[context_compaction]` | `enabled` | 会話履歴の自動要約・圧縮機能（ClaudeCodeのcompact相当）の有効/無効 | `CONTEXT_COMPACTION_ENABLED` |
| `[context_compaction]` | `token_threshold` | メインエージェントの累積トークン数（圧縮発火のたびに0へリセット）がこの値を超えたら圧縮する条件（1リクエストあたりの上限ではない） | `CONTEXT_COMPACTION_TOKEN_THRESHOLD` |
| `[context_compaction]` | `single_request_token_threshold` | 直近1回のLLM呼び出しのtotal_tokensがこの値を超えたら圧縮する条件（累積条件とのOR判定） | `CONTEXT_COMPACTION_SINGLE_REQUEST_TOKEN_THRESHOLD` |
| `[context_compaction]` | `keep_recent_iterations` | 圧縮時に丸ごと保持する直近の反復数（`[context_trim]`の`keep_recent_tool_iterations`と同じ単位）。これとは別に「末尾の`HumanMessage`以降は必ず原文のまま残す」上限も内部で被せる（適用すると要約対象が空になる場合は圧縮の機会自体が失われるため適用しない） | `CONTEXT_COMPACTION_KEEP_RECENT_ITERATIONS` |
| `[context_compaction]` | `min_messages_to_compact` | 会話全体のメッセージ数がこの件数未満なら圧縮しない安全弁 | `CONTEXT_COMPACTION_MIN_MESSAGES_TO_COMPACT` |
| `[context_compaction]` | `compaction_prompt_path` | 要約を指示するプロンプト本文（Markdown）のパス | `CONTEXT_COMPACTION_PROMPT_PATH` |
| `[context_compaction]` | `summary_source_max_chars` | 要約対象の古い`ToolMessage`を要約LLMへ渡す前に切り詰める文字数（`[context_trim]`とは別枠） | `CONTEXT_COMPACTION_SUMMARY_SOURCE_MAX_CHARS` |
| `[context_compaction]` | `skill_reattach_max_chars_per_skill` | 要約対象に入った`read_skill`結果（スキル本文）を要約の後ろへ再添付する際の1スキルあたりの最大文字数（サブエージェントも共有） | `CONTEXT_COMPACTION_SKILL_REATTACH_MAX_CHARS_PER_SKILL` |
| `[context_compaction]` | `skill_reattach_total_max_chars` | 上記の再添付全体の最大文字数。収まらない古いスキルは名前だけを列挙する | `CONTEXT_COMPACTION_SKILL_REATTACH_TOTAL_MAX_CHARS` |
| `[context_compaction]` | `pre_note_threshold` | 圧縮発火前に`write_thread_note`への書き出しを促す注意メッセージを注入する、直近1回のLLM呼び出しのtotal_tokens閾値（0以下で無効化） | `CONTEXT_COMPACTION_PRE_NOTE_THRESHOLD` |
| `[context_compaction]` | `pre_note_warning_text` | 上記閾値到達時に注入する注意メッセージの文言 | `CONTEXT_COMPACTION_PRE_NOTE_WARNING_TEXT` |
| `[path_memory]` | `dir` | パスメモリー機能のレジストリファイル（`<thread_id>.json`）保存先 | `PATH_MEMORY_DIR` |
| `[path_memory]` | `retention_days` | パスメモリーのレジストリファイル保持日数 | `PATH_MEMORY_RETENTION_DAYS` |
| `[path_memory]` | `cleanup_interval_hours` | パスメモリーの自動削除チェック間隔（時間） | `PATH_MEMORY_CLEANUP_INTERVAL_HOURS` |
| `[path_memory]` | `max_entries` | 1会話あたりのパスメモリー登録上限件数 | `PATH_MEMORY_MAX_ENTRIES` |
| `[path_memory]` | `search_min_score` | パスメモリー類似検索（`search_path_memory`・「見つかりません」エラー時の候補提示）で結果に出す類似度（0.0〜1.0）の下限（既定0.3） | `PATH_MEMORY_SEARCH_MIN_SCORE` |
| `[vector_db]` | `enabled` | ベクターDB（社内文書の意味検索）の有効/無効（既定 false）。false の間は `search_documents`/`list_document_collections` が「無効です」を返し、ダッシュボードからの取り込みもできない（「ベクターDB（社内文書の意味検索）」参照） | `VECTOR_DB_ENABLED` |
| `[vector_db]` | `backend` | ベクターの保存先（`sqlite_vec` 既定 / `qdrant`） | `VECTOR_DB_BACKEND` |
| `[vector_db]` | `dir` | `catalog.sqlite`（コレクション定義・取り込み済みファイルの記録）と、`sqlite_vec` 時の `vectors.sqlite` の保存先（既定 `${common_data_dir}/vector_db`） | `VECTOR_DB_DIR` |
| `[vector_db]` | `qdrant_url` | `backend = qdrant` 時の Qdrant サーバー URL（例 `http://localhost:6333`）。API キーは `.env` の `QDRANT_API_KEY` | `VECTOR_DB_QDRANT_URL` |
| `[vector_db]` | `qdrant_collection_prefix` | Qdrant 上のコレクション名の接頭辞（既定 `locohane_${instance}_`）。この接頭辞以外のコレクションには触れない | `VECTOR_DB_QDRANT_COLLECTION_PREFIX` |
| `[vector_db]` | `qdrant_timeout_seconds` | Qdrant への1リクエストのタイムアウト秒数（既定30） | `VECTOR_DB_QDRANT_TIMEOUT_SECONDS` |
| `[vector_db]` | `embedding_url` | 埋め込みを計算する接続先（`/v1/embeddings`）。`[llm] main_url` と同じ形式で、全要素同じ `model`・`start`/`end` 指定不可。`enabled = true` のとき必須（`[]` は未設定） | `VECTOR_DB_EMBEDDING_URL` |
| `[vector_db]` | `embedding_batch_size` | 埋め込み1リクエストあたりのチャンク数（既定16） | `VECTOR_DB_EMBEDDING_BATCH_SIZE` |
| `[vector_db]` | `embedding_timeout_seconds` | 埋め込み1リクエストのタイムアウト秒数（既定120） | `VECTOR_DB_EMBEDDING_TIMEOUT_SECONDS` |
| `[vector_db]` | `query_prefix` / `document_prefix` | 検索語・文書の先頭に付ける文字列（`multilingual-e5` 系は `"query: "`/`"passage: "`。末尾の空白を残すならダブルクォートで囲む） | `VECTOR_DB_QUERY_PREFIX` / `VECTOR_DB_DOCUMENT_PREFIX` |
| `[vector_db]` | `chunk_size` / `chunk_overlap` | チャンク1つの最大文字数（既定800）と、隣り合うチャンクで重ねる文字数（既定100、`chunk_size` 未満） | `VECTOR_DB_CHUNK_SIZE` / `VECTOR_DB_CHUNK_OVERLAP` |
| `[vector_db]` | `include_extensions` | 取り込む拡張子（カンマ区切り。対応形式は `.pdf .docx .xlsx .xlsm .pptx .md .txt .csv`） | `VECTOR_DB_INCLUDE_EXTENSIONS` |
| `[vector_db]` | `max_file_mb` | 取り込む1ファイルの上限サイズ（MB、既定50。超えると失敗一覧に載る） | `VECTOR_DB_MAX_FILE_MB` |
| `[vector_db]` | `top_k` | `search_documents` が既定で返す件数（既定5） | `VECTOR_DB_TOP_K` |
| `[vector_db]` | `max_result_chars` | `search_documents` の結果全体の最大文字数（既定6000） | `VECTOR_DB_MAX_RESULT_CHARS` |
| `[vector_db]` | `min_score` | 結果に出す類似度（0.0〜1.0、コサイン類似度）の下限（既定0.3） | `VECTOR_DB_MIN_SCORE` |
| `[path_memory]` | `search_filename_weight` | 検索語がフルパスの場合に、類似度計算でファイル名部分を重視する割合（既定0.7、残りはフォルダ部分同士の類似度） | `PATH_MEMORY_SEARCH_FILENAME_WEIGHT` |
| `[auth]` | `enabled` | ログイン認証機能のON/OFF（`false`＝現状通りログイン不要） | `AUTH_ENABLED` |
| `[auth]` | `require_password` | 認証ON時、パスワード一致を必須にするか（`false`＝ユーザー名のみで通す） | `AUTH_REQUIRE_PASSWORD` |
| `[chat_log]` | `enabled` | 会話ログ（ユーザー発言・AI最終応答）のテキストファイル記録の有効/無効 | `CHAT_LOG_ENABLED` |
| `[chat_log]` | `dir` | 会話ログの保存先ルートディレクトリ | `CHAT_LOG_DIR` |
| `[thread_store]` | `enabled` | 会話スレッド一覧（画面左サイドバー）・再開機能の有効/無効 | `THREAD_STORE_ENABLED` |
| `[thread_store]` | `db` | スレッド一覧・Step履歴の保存先SQLiteファイル（`data/checkpoints.sqlite`とは別ファイル） | `THREAD_STORE_DB` |
| `[thread_store]` | `retention_days` | スレッド一覧の保持日数（0以下で無期限保持、既定）。削除してもLangGraph側の会話状態自体は消えない | `THREAD_STORE_RETENTION_DAYS` |
| `[thread_store]` | `cleanup_interval_hours` | 上記の自動削除チェックの実行間隔（時間） | `THREAD_STORE_CLEANUP_INTERVAL_HOURS` |
| `[chat_starters]` | `prompts` | チャット開始時に表示する定型文ボタン（クリックでそのまま送信、複数指定可） | `CHAT_STARTER_PROMPTS` |
| `[checkpointer]` | `op_timeout_seconds` | LangGraphの会話状態SQLite（`[paths].checkpoint_db`）に対する1回あたりの操作（aget_tuple/aput_writes等）タイムアウト秒数。超過時はcheckpointer再構築へフォールバック | `CHECKPOINTER_OP_TIMEOUT_SECONDS` |
| `[checkpointer]` | `close_timeout_seconds` | checkpointer再構築時に旧DB接続をクローズする際のタイムアウト秒数 | `CHECKPOINTER_CLOSE_TIMEOUT_SECONDS` |
| `[checkpointer]` | `shutdown_drain_timeout_seconds` | アプリシャットダウン時、保留中の非同期タスクの完了を待つ最大秒数 | `CHECKPOINTER_SHUTDOWN_DRAIN_TIMEOUT_SECONDS` |
| `[mcp]` | `enabled` | MCPサーバー自動接続機能の有効/無効（既定値。`.locohane/settings.json` の `"mcp"."enabled"` があればそちらが優先） | `MCP_ENABLED` |
| `[mcp]` | `settings_path` | `.locohane/settings.json` のパス | `MCP_SETTINGS_PATH` |
| `[mcp]` | `connect_timeout_seconds` | 1サーバーあたりの起動（プロセス起動+initialize+tools/list）のタイムアウト秒数 | `MCP_CONNECT_TIMEOUT_SECONDS` |
| `[mcp]` | `call_timeout_seconds` | MCPツール（tools/call）1回あたりのタイムアウト秒数 | `MCP_CALL_TIMEOUT_SECONDS` |
| `[admin]` | `host` | 設定ダッシュボード（管理ツール）自身の待受ホスト。`instances/<name>/config_overrides.json` の上書き対象外 | `ADMIN_HOST` |
| `[admin]` | `port` | 管理ツール自身の待受ポート | `ADMIN_PORT` |
| `[admin]` | `ssl_certfile` / `ssl_keyfile` | HTTPS 用のサーバー証明書・秘密鍵（PEM）のパス。両方指定すると管理ツールと本体インスタンスが HTTPS で待ち受ける。両方空なら HTTP（既定）。「5. HTTPS で待ち受ける（任意）」参照 | `SSL_CERTFILE` / `SSL_KEYFILE` |
| `[admin]` | `session_timeout_minutes` | 管理ツールへのログインセッションの有効時間（分） | `ADMIN_SESSION_TIMEOUT_MINUTES` |
| `[admin]` | `backup_keep` | インスタンスごとの設定バックアップの保持世代数 | `ADMIN_BACKUP_KEEP` |
| `[admin]` | `stop_apps_on_exit` | 管理ツール終了時に、子プロセスとして起動した本体インスタンスも道連れで停止するか | `ADMIN_STOP_APPS_ON_EXIT` |
| `[admin]` | `instances_dir` | インスタンス別ディレクトリのルート（既定 `./instances`）。app.bat直接起動時のdefaultインスタンスの`.env`・`config_overrides.json`の読み込み先にも使われる。変更時は既存の中身を手動で移動する | `INSTANCES_DIR` |
| `[ui]` | `max_display_messages` | チャット画面に描画するメッセージの最大件数（表示専用の間引き、`0`で無制限） | `UI_MAX_DISPLAY_MESSAGES` |
| `[ui]` | `max_display_side_steps` | サイドパネルに描画するツール呼び出し等のStepの最大件数（表示専用の間引き、`0`で無制限） | `UI_MAX_DISPLAY_SIDE_STEPS` |
| `[ui]` | `paste_as_attachment_threshold_chars` | 入力欄へこの文字数以上のテキストを貼り付けると、入力欄へ展開せず「貼り付けテキスト」カード（`pasted-text-*.txt` 添付）にする。送信時はパスではなく本文としてLLMへ渡す（`0`以下で無効） | `UI_PASTE_AS_ATTACHMENT_THRESHOLD_CHARS` |
| `[ui]` | `max_input_chars` | 1回の送信の最大文字数（入力欄＋貼り付けテキストの合計）。超過中は送信不可、バックエンドも拒否する（`0`以下で無制限） | `UI_MAX_INPUT_CHARS` |
| `[ui]` | `token_usage_warn_threshold` | トークン使用量カードの「リクエスト1回あたり」行（メインと実行中のサブエージェント/一括委譲のグループごとに1行。コンテキスト圧縮の要約呼び出しは「圧縮処理（直近1回）」行として出し、会話累計にも加算する。行ごとに判定）の合計トークン数がこの値以上でオレンジ太字表示（`0`以下で無効） | `UI_TOKEN_USAGE_WARN_THRESHOLD` |
| `[ui]` | `token_usage_alert_threshold` | 同上、この値以上で赤太字表示（`token_usage_warn_threshold`より優先、`0`以下で無効） | `UI_TOKEN_USAGE_ALERT_THRESHOLD` |
| `[websocket]` | `ping_interval_seconds` | ブラウザ⇔サーバー間WebSocket（Socket.IO）の生存確認ping送信間隔秒数。`[llm].stream_chunk_timeout_seconds`（LLMサーバーとの通信）とは別レイヤー | `WEBSOCKET_PING_INTERVAL_SECONDS` |
| `[websocket]` | `ping_timeout_seconds` | 直近pingへの応答をこの秒数待っても受信できない場合に切断とみなす。LLM応答待ちでイベントループがブロッキング気味の時間帯（`dispatch_agent`の長時間実行中等）に短すぎると誤切断しやすい | `WEBSOCKET_PING_TIMEOUT_SECONDS` |

環境変数が設定されていれば `config.ini` の値より優先される（詳細は `src/config.py` を参照）。

`provider` ごとの reasoning 系パラメータの対応表は `src/llm/dialect.py` の `build_extra_body()` を参照。対応表は `tools/probe_reasoning_dialect.py` で実測済み（llama-server b10437 / Qwen3.8、vLLM 0.30.0 / Qwen3.5-9B-AWQ）。サーバーのバージョンやモデルを変えたときは、`python tools/probe_reasoning_dialect.py --base-url <URL>/v1 --model <モデル名> --provider <llama_cpp|vllm>` で確認できる。

## ログイン認証の設定

`[auth] enabled = true` にするとログイン画面が表示され、ユーザー名/パスワードでの
ログインが必須になる。ユーザー名・パスワードの実体、および JWT 署名鍵は
**機密情報のため config.ini には置かず、`.env`（環境変数）で管理する**。

1. `chainlit create-secret` を実行し、出力された値を `.env` の
   `CHAINLIT_AUTH_SECRET` に設定する（`[auth] enabled = true` の場合は必須。
   未設定だと起動時にエラーで止まる）。
2. `.env` の `AUTH_USERS` にログイン可能なユーザー名/パスワードの組を
   `[["ユーザー名","パスワード"], ...]` の Python リスト形式で登録する
   （書式・記入例は `.env.example` を参照）。複数行に分けて見やすく書きたい
   場合は、値全体をシングルクォート(`'`)で囲むこと（python-dotenv の仕様上、
   クォート無しの値は複数行にできない）。例:
   ```
   AUTH_USERS='[
       ["alice", "password1"],
       ["bob", "password2"]
   ]'
   ```
3. `config.ini` の `[auth]` で `enabled` / `require_password` を設定する。
   `require_password = false` の場合、`AUTH_USERS` に登録済みのユーザー名で
   あればパスワードの内容は問われない。
4. 独自フロントエンド（`frontend/`）にログインフォームを実装しているため、
   フロントエンドを変更した場合は `cd frontend && npm run build` で
   再ビルドし `public/build` へ反映する。

**`.env` は絶対にコミットしないこと**（`.gitignore` 済みだが、値の取り扱いに注意）。

## 会話ログの記録

`[chat_log] enabled = true` にすると、ユーザー発言とAIの最終応答（ツール実行の
詳細・thinkingは含まない）を、データベースを使わずテキストファイルへ記録する。

- 保存先: `[chat_log].dir`（既定 `./data/logs_chat`）配下に
  `<ユーザー名>/<日時>_<thread_id>.log`（日時は秒単位まで含む）の構成で書き出す。
- ユーザー名はログイン中のユーザー識別子（`[auth]` 参照）。`[auth] enabled = false`
  で未ログインの場合は `anonymous` にまとめる。
- 1つの会話（thread_id）につき1ファイルへ追記し続ける（日をまたいでも
  ファイルは変わらない）。左サイドバーからスレッドを再開した場合も、同じ
  thread_id の既存ファイルへ追記を継続する（新規ファイルには分割しない）。
  再開したタイミングは `----- 再開 YYYY-MM-DD HH:MM:SS -----` という区切り行で
  ファイル内に記録される。

## 会話スレッド一覧・再開（左サイドバー）

`[thread_store] enabled = true`（既定）にすると、画面左に過去の会話一覧が
サイドバー表示され、選ぶとLangGraphの会話状態ごとその続きを再開できる
（ChatGPT/Claude 同様）。実装は `src/thread_store.py`（Chainlit の
`BaseDataLayer` を実装した軽量な独自ストア、`data/chat_threads.sqlite`）と
`frontend/src/components/Sidebar.tsx`。

- **所有者の分け方**: `[auth] enabled = false`（既定）では全会話を
  `anonymous` という1つのバケットにまとめ、単一の一覧として表示する
  （`[chat_log]` と同じ挙動）。`[auth] enabled = true` ではログインユーザー
  ごとに自分のスレッドのみが見える。
- **一覧・リネーム・削除**: 独自の `GET/PUT/DELETE /locohane/threads*`
  エンドポイント（`app.py`）を使う。Chainlit公式の `/project/threads*` は
  匿名モードで常に401になり使えないため採用していない。
- **再開の仕組み**: Chainlit自身のスレッドID（`cl.context.session.thread_id`）
  をそのままLangGraphのチェックポイント分離キーとして使う（`on_chat_start`）。
  再開時は同じIDが渡されるため、LangGraph側の会話状態が自動的に引き継がれる。
  `@cl.on_chat_resume` は `on_chat_start` の軽量版で、ウェルカムメッセージ等は
  再送しない（過去のメッセージは resume 時に自動再生されるため）。
- **匿名モードでの再開有効化**: Chainlit本体の `resume_thread()`
  （`chainlit/socket.py`）は `session.user` が `None` だと無条件で
  早期returnする設計のため、匿名モードのままではスレッド再開が発火しない。
  `app.py` の `_patch_chainlit_anonymous_resume()` が、匿名モード時のみ
  `chainlit.socket.resume_thread` をモジュール関数単位で差し替え、再開時に
  一時的な `anonymous` ユーザーを補ってから元の実装を呼ぶ。
- **添付ファイル・埋め込み画像の永続化**: `provide_download`/`analyze_image`の
  `show_in_chat=True` 等の添付ファイル、および回答本文へ直接埋め込まれた画像は、
  `data/elements/`（`[elements]`参照）へ実体をコピー保存し、再開したスレッドや
  プロセス再起動後も表示できる（`src/thread_store.py` の `create_element`/
  `get_element`/`delete_element`、`app.py` の
  `_embed_local_images_as_session_urls`）。ただし `analyze_image` を
  `show_in_chat=False`（既定）で呼んだ場合はチャットUIへ表示しないため、
  この永続化とは無関係。

---

## 作業ディレクトリの切り替え（ツールバー）

`run_script`/`execute_python_code` が読み書きする作業ディレクトリは、既定では
サンドボックス化された `[default_workdir]` 配下の `_tmp_<name>`
（前述「データの保存場所」参照）だが、チャット入力欄ツールバーの
フォルダアイコン（`frontend/src/components/WorkDirButton.tsx`）から、
会話（スレッド）単位でユーザー自身の実プロジェクトフォルダ等へ絶対パスで
切り替えられる。

- **入力方式**: OSネイティブのフォルダ選択ダイアログではなく、絶対パス文字列を
  直接入力するポップオーバー方式（サーバーとブラウザが別マシンの構成だと
  ネイティブダイアログがサーバー側にしか表示されずクライアントが固まって
  見える問題があったため）。「既定値に戻す」で `config.ini` の
  `[default_workdir].dir` ベースの設定へ戻せる。
- **変更可能なタイミング**: 新規チャットで一度もメッセージを送信していない間、
  または未送信のまま再開したスレッドに限る。送信済みのチャットではアイコンが
  無効化される（送信後に作業フォルダを変えると挙動が分かりにくくなるため）。
- **検証とフォールバック**: 設定時にサーバー側で実際にディレクトリ一覧
  取得・一時ファイルの作成/書き込み/削除を試みて読み書き可否を判定する
  （`src/tools/check_work_dir_status.py` の `probe_workdir_access`）。存在しない・
  読み取り不可・（書き込みが必要な場面では）書き込み不可と判定された場合は、LLMが確認を
  怠っても安全側に倒れるよう自動的に `default_workdir` へフォールバックする。
  判定結果は `check_work_dir_status` ツールでも確認できる。
- **スコープ**: `cl.user_session`（会話単位）に保存されるだけで、
  `config.ini` 自体は変更されない。他の会話・他ユーザーには影響しない。

---

## 設定ダッシュボード（管理ツール）

`config.ini`（`[admin]` を除く全セクション）・`public/settings/`（ヘッダー・
タブタイトル・ウェルカムメッセージ・アイコン）・ログインユーザーを、
テキストエディタを使わずブラウザのUIから変更できる独立した管理ツール
（`admin/` パッケージ、既定で `http://127.0.0.1:8001`）。Locohane本体
（`app.py`、既定で `http://127.0.0.1:8000`）とは別プロセス・別ポートで動く。

さらに、Locohane本体を**複数のインスタンスとして同時に起動・停止・
再起動**できる（例: 別のモデル・別の接続先で動く2つ目のインスタンスを
追加する等）。各インスタンスは会話履歴・永続メモリー・アップロード等の
データ、設定の上書き差分、ログインユーザーが完全に分離される。

![Dashboad](admin/Dashboad_01.png)

`config.ini` タブの左サイドバーには、よく変更するキーだけを絞り込んで
表示するプリセットボタンがある（もう一度押すと解除）。対象キーは
`admin/static/admin.js` の `CONFIG_PRESETS` で定義している。

- **並列数**: `[llm] max_concurrent_requests`・`[graph] max_parallel`・`[subagent] max_parallel`
- **トークン制御**: `[graph] token_guard_soft_threshold`・`[subagent] token_guard_soft_threshold`・`token_guard_hard_threshold`・`[context_trim] enabled`・`trigger_total_tokens`・`[context_compaction] enabled`・`token_threshold`・`single_request_token_threshold`・`pre_note_threshold`
- **スキル関係**: `[paths] project_locohane_dir`・`[subagent] agent_type_run_script_allowlist`・`[main_agent_tool_guard] allow_entries`・`[plan] plan_approval_exempt_scripts`・`[skill_creator]` の各キー・`[skill_lab] instance_locohane_dir`
- **ベクターDB**: `[vector_db]` の `enabled`・`backend`・`qdrant_url`・`embedding_url`・`query_prefix`・`document_prefix`・`chunk_size`・`chunk_overlap`・`top_k`・`max_result_chars`・`min_score`

その種類のインスタンスに出していないキーだけのプリセットは出さない（スキル調整ワーカーは出すキーが少ないため、プリセットは出ない）。

### 起動方法

```cmd
admin.bat
```

起動すると `instances/default/` が無ければ自動的に作られ（`app.bat` と
同じ `127.0.0.1:8000`）、`autostart=true` のインスタンス（既定では
`default` のみ）を子プロセスとして起動する。管理ツールへは
`http://127.0.0.1:8001` からログインする（下記「ログイン」参照）。

管理ツール自身の待受ホスト・ポートは `admin.bat` 内の `ADMIN_HOST`/
`ADMIN_PORT` で指定する（`config.ini` の `[admin]` セクションより優先。
変更したい場合は `admin.bat` をテキストエディタで開いてこの2行を書き換える）。

従来通り `app.bat` で `default` インスタンスを単体起動することもできる
（`instances/default/instance.json` のホスト/ポートに追従する）。ただし
その場合、管理ツールからは「外部で起動中」と表示され、そこからの
再起動・停止はできない（多重起動によるデータ破損を防ぐ排他ロック
`src/instance_lock.py` の制約による）。

### ログイン

管理ツールへのログインは、Locohane本体のログインユーザー（後述）とは
別の名前空間で、**常にパスワード必須**（本体の `[auth].require_password`
の設定には左右されない）。プロジェクト直下の `.env` に

```
ADMIN_USERS=[["admin", "変更してください"]]
```

の形式（`AUTH_USERS` と同じ `[["ユーザー名","パスワード"], ...]` 形式）で
設定する（`.env.example` 参照）。未設定のままだと管理ツールは起動を拒否
する。同一IPからのログイン失敗が既定5回に達すると一時的にロックアウトする。

### 設定値の優先度と保存先

**config.ini は既定値として扱い、管理ツールは config.ini 自体を一切
書き換えない。** UIで変更した値は、インスタンスごとの
`instances/<インスタンス名>/config_overrides.json`
（`{"<セクション>": {"<キー>": "<config.iniに書くのと同じ形式の文字列>"}}`
のJSON。管理ツールで一度も保存していない間は存在しない）に記録する。

優先度（高い順）: **環境変数 > `config_overrides.json` > config.ini（既定値）**

（`.locohane/settings.json` の `"mcp"` ブロックは、これとは別に
`[mcp]` セクションの実効値をさらに上書きする、従来からの最優先設定）

`src/config.py` の `load_config()` が起動時にこの優先度で解決する
（`CONFIG_OVERRIDES_PATH` 環境変数で `config_overrides.json` のパスを
明示的に指定することもできる。省略時は `instances/default/
config_overrides.json`）。`[admin]` セクション（管理ツール自身の設定）
だけは上書き対象外で、常に config.ini の値を使う。

保存前には `load_config()` 本体の型変換・バリデーションで実際に検証し、
失敗する値は保存されない。保存のたびに変更前の内容を
`instances/<name>/backups/` へバックアップし（`[admin].backup_keep`
世代まで保持）、UIから復元できる。

### インスタンス

`instances/<インスタンス名>/` 配下に、インスタンスごとの以下を持つ
（`.gitignore` 済み）。

```
instances/
├── default/                     # 既定インスタンス（削除不可）
│   ├── instance.json            # 表示名・ホスト・ポート・自動起動の有無
│   ├── config_overrides.json    # config.iniとの差分（初回保存時に生成）
│   ├── .env                     # インスタンス専用のログインユーザー等（任意）
│   ├── settings/                # インスタンス専用の表示設定（任意。下記参照）
│   ├── backups/                 # 保存・復元前のスナップショット
│   └── app_stdout.log           # 本体プロセスの標準出力
├── <他のインスタンス名>/
│   └── ...（同上）
└── admin_changes.log            # 全インスタンス共通の変更履歴（JSON Lines）
```

データ本体（会話履歴 `checkpoints.sqlite`・スレッド一覧・永続メモリー・
アップロード・ログ等。「データの保存場所と手動削除の手順」参照）は、
config.ini 既定の `[paths] common_data_dir = ./data/${instance}` により
`data/<インスタンス名>/` へ自動的に分かれる。管理ツールは子プロセス起動時に
環境変数 `LOCOHANE_INSTANCE=<インスタンス名>` を渡し、`app.bat` で直接
起動した場合は `default` になる。永続メモリーだけ全インスタンスで共有したい
場合は、`memory_dir` を `${instance}` を含まない固定パスに上書きすればよい。
新しく作るインスタンスの名前（表示名ではない方）は半角英数字・`_`・`-` の
**6文字以内**に制限している。名前がそのまま `data/<インスタンス名>/`・
`instances/<インスタンス名>/` 等のパスに入るため、長いと配下のスキル生成物等で
Windows のパス長上限（260文字）を超えやすいため（制限導入前に作った
`default` 等の既存インスタンスはそのまま使える）。作成時に既存インスタンスの設定を複製することもできる（複製元に
`common_data_dir` の上書きがあっても、それだけは引き継がない）。ポート・
データ保存先が他インスタンスと重複する場合は、作成・起動時と、設定画面での
保存・バックアップ復元時にエラーとして拒否される。

インスタンスの削除では `instances/<name>/` を削除し、あわせて削除する
永続データを削除ダイアログで選択できる。候補はそのインスタンスの実効設定
（config.ini＋上書き）で解決した `common_data_dir`（データディレクトリ全体）・
`checkpoint_db`・`[thread_store] db`・`memory_dir`・`plans_dir`・`[log] dir`・
`[chat_log] dir`・`[elements] dir`・`[path_memory] dir`・
`[default_workdir] dir` で、パスごとにチェックボックスで選ぶ（SQLite は
`-wal`/`-shm` も一緒に消す）。`data/<そのインスタンス名>/` 配下は初期状態で
選択済み、プロジェクト外のパスは未選択で表示される。次のパスは誤削除防止の
ため選択できない: 存在しないパス、ドライブのルート・ホーム・プロジェクト・
`instances/` やその上位、プロジェクト内で `data/<そのインスタンス名>/` 配下
ではないパス、他インスタンスのデータパスや自他の `skills_dir`・`agents_dir`・
`project_locohane_dir`・`bin_path`・`allow_sandbox_dir` と同一・包含関係に
あるパス（他インスタンスの設定が読めない場合も確認できないため不可）。
データの削除に失敗した場合はインスタンス自体を残す。稼働中の
インスタンスと `default` は削除できない。設定（`config_overrides.json`）が
壊れていて状態を解決できないインスタンスは「設定エラー」と表示される。

表示名・ホスト・ポート・自動起動の有無・下記の `headless`/`watch` は、
作成後もインスタンスカードの「編集」から変更できる（ホスト・ポートの
変更は、稼働中の場合は再起動後に反映される）。

- **ヘッドレス**（`chainlit run` の `-h`/`--headless`。既定で有効）:
  管理ツール経由でインスタンスを起動するたびにブラウザタブが自動で
  開かないようにする。無効にすると起動のたびにブラウザが開く。
- **自動リロード**（`-w`/`--watch`。既定で無効）: ファイル変更を検知して
  自動リロードする開発用オプション。本番運用では無効のままにすること。

### ユーザー管理（.env）

| ファイル | 用途 | 管理ツールでの編集 |
|---|---|---|
| プロジェクト直下 `.env` | 管理ツール自身のログイン情報（`ADMIN_USERS`）と、全インスタンス共通の環境変数 | 不可（手動編集） |
| `instances/<name>/.env` | そのインスタンスのログインユーザー（`AUTH_USERS`）・JWT署名鍵（`CHAINLIT_AUTH_SECRET`）・任意の環境変数 | 可（「ユーザー」「環境変数」タブ） |

優先度は **`instances/<name>/.env` > OS環境変数 > プロジェクト直下 `.env`**。
`app.py` の先頭で、環境変数 `LOCOHANE_INSTANCE_ENV`（管理ツールが子プロセス
起動時に設定。未設定時は `instances/default/.env`）が指す `.env` を
`override=True` で読み込んでから、Chainlit自身がプロジェクト直下 `.env` を
`override=False` で読む（後から読む方が「未設定のキーだけ補う」動作になる
`python-dotenv` の挙動を利用している）。そのため `app.bat` で直接起動して
も `default` インスタンスの `.env` が使われ、管理ツール経由の起動と同じ
挙動になる。

「環境変数」タブでは、`LOCOHANE_INSTANCE`・`LOCOHANE_INSTANCE_ENV`・
`CONFIG_OVERRIDES_PATH`・`COMMON_DATA_DIR`・`CHECKPOINT_DB` は設定できない
（管理ツールは重複チェックや稼働判定の際にインスタンスの `.env` を読まない
ため、これらで保存先やインスタンス名を変えると判定と食い違う。データ保存先は
設定画面の `[paths]` から変更する）。値は常に引用符付きで書き込むため、
空白や `#` を含むパスワード・値もそのまま保存できる。

インスタンス専用のユーザーを1人も設定していない間は、プロジェクト直下
`.env` の `AUTH_USERS` を継承しているものとしてUIに表示される。ユーザーを
追加すると、そのインスタンス専用の設定に切り替わる（以後は継承しない）。
継承中のユーザーは管理者設定扱いのため、「プロジェクト直下 .env（管理者設定）」
バッジ付きでグレーアウト表示され、パスワード変更・削除はできない（API も 403 で
拒否する）。変更する場合はプロジェクト直下の `.env` を直接編集する。

### 表示設定（共通 + インスタンス別）

header.md・tab_title.md・welcome.md・icon・favicon は、トップの「表示設定」
タブで **共通**（`public/settings/`）を、インスタンス詳細画面の「表示設定」
サブタブで **そのインスタンス専用**（`instances/<name>/settings/`）を
編集する。各インスタンスは、自分の `settings/` にあるファイルを優先し、
無い項目は共通設定を使う（icon・favicon は拡張子違いを1組として扱い、
インスタンス側に1つでもあれば共通側は使わない）。インスタンス専用の設定は
「共通に戻す」で削除できる。

`app.py` が `/public/settings/{ファイル名}` を Chainlit 標準の静的配信より
手前で処理して、この優先順位で返す。変更は **再起動不要** で、ブラウザの
再読み込み（welcome.md は次のチャット開始）で反映される。

### モニター（稼働状況・会話閲覧・トークン推移・ログ）

インスタンスカードに接続中のセッション数・ユーザー名・生成中スレッド数を
表示し、生成中のスレッドがあれば今回の生成開始以降の LLM リクエストごとの
入力トークン（コンテキスト長。メインとサブエージェントのうち最大の値）を
スレッドごとに色分けした折れ線グラフで表示する。「モニター」ボタン（またはインスタンス詳細の「モニター」「会話」
「ログ」サブタブ）から次を閲覧できる。すべて読み取り専用で、本体の動作には
影響しない。

- **モニター**: 接続中のユーザー・セッション（ブラウザタブ）、生成中の
  スレッド（経過時間・ユーザーの応答待ちか）、直近24時間の WARNING/ERROR
  件数（5秒ごとに自動更新）。LLM接続先（`[llm] main_url`/`sub_url`）の
  到達確認と、`provider="llama_cpp"` ならスロット使用状況。
- **会話**: ユーザー別のスレッド数・トークン累計・最終利用日時、スレッド一覧
  （ユーザー・名前で絞り込み）。スレッドを選ぶと会話内容と、その会話の
  累積トークン使用量の推移グラフ（全体＝サブエージェント・圧縮処理を含む／
  メインエージェントのみ）・LLMリクエストごとの入力トークン（コンテキスト長）
  のグラフを表示する。コンテキスト圧縮の実行位置は破線で示す。累計はログの
  各呼び出しを管理ツール側で足し上げた値で、本体のセッション内カウンタ
  （生成中に切断したスレッドを再開すると0から数え直し、圧縮のたびに
  メイン分を0に戻す）とは独立している。会話内容は既定で
  ユーザー発言とAIの応答のみで、ツール実行・思考も表示に切り替えられる。
  **会話内容を開くたびに、閲覧した事実（閲覧者・対象スレッド・所有者）を
  変更履歴へ `conversation_view` として記録する。**
- **ログ**: `[log] dir` の `app_*.log` をレベル・文字列・thread_id で絞り込んで
  新しい順に表示する。

データの取得元:

| 表示 | 取得元 |
|---|---|
| 接続中セッション・生成中スレッド | `<common_data_dir>/runtime_status.json`（本体が3秒ごとに変化があれば書き出し、終了時に削除。`src/runtime_status.py`） |
| スレッド一覧・会話内容 | `[thread_store] db`（`[thread_store] enabled=false` だと閲覧できない） |
| トークン推移 | `app_*.log` の `トークン使用量 thread_id=...` 行（会話本体の呼び出し）、`圧縮処理トークン使用量` 行（要約・write_thread_note 強制実行。`src/context_compaction.py`）、`コンテキスト圧縮を実行しました` 行（破線の位置）。`[llm] track_token_usage=true` の場合のみ出力され、ログがローテーション・削除された分は表示されない |

本体と HTTP で通信せずファイルを読む方式にしているのは、`app.bat` で直接
起動した（管理ツールが起動に関与しない）インスタンスでも同じように見える
ようにするためと、管理ツールと本体の間に認証用の秘密を共有する仕組みが
無いため（本体は `0.0.0.0` で公開されうる）。

### スキル研究室

利用者のドラフトや、開発者が新しく作るスキル・**サブエージェント**を、AI に不具合を自己修正させて本番運用に耐えるものに
仕上げ、承認したものをインスタンスへ昇格させる画面（トップの「スキル研究室」タブ。`admin/skill_lab/`・`admin/static/skill_lab.js`）。

画面上の入口と役割は次のとおり（「研究室」と付くのは作業画面、実際に AI を動かすのは スキル調整ワーカー）。

| 場所 | 役割 |
|---|---|
| 上部タブ「スキル研究室」 | 作業画面。左で対象インスタンスを選び、そのインスタンスの研究テーマを作る・ケースを作る・結果を見る・昇格する |
| インスタンスカードの「研究テーマ」ボタン・詳細の「スキル研究室」サブタブ | 上と同じ作業画面を、そのインスタンスを選んだ状態で開く近道 |
| インスタンス一覧の スキル調整ワーカー（種類 `skill_lab`） | 作業画面で頼んだ評価・AI 修正・判定・下書きを裏で処理する実行役。研究テーマは持たない。カードには処理中のテーマ・待ち件数・LLM 接続先が出る |

**スキル調整ワーカー**: 「＋ インスタンス追加」で種類「スキル調整ワーカー」を選んで作る（`instance.json` の `kind: skill_lab`）。
チャット画面・ポートを持たず、「起動」でワーカーのプロセス（`python -m admin.skill_lab.worker --lab <名前>`）が動く。ログは詳細画面の「ログ」タブで見られる。
評価・AI 修正・judge・下書きは、研究テーマの対象インスタンスの設定（スキル・ガード・タイムアウト・`[llm]` の推論パラメータ等）を
そのまま引き継ぐ。スキル調整ワーカーが独自に持つ設定は次の3つだけで、ワーカーの config.ini 画面にもこれだけが出る
（ほかのキーは API からも保存できない。逆に `[skill_lab_worker]` は本体インスタンスの画面には出ない。判定は `admin/instances.py` の `config_key_applies()`）。

- LLM の接続先: `[llm] main_url`・`sub_url`・`main_routing_strategy`・`sub_routing_strategy`（モデルは本番と同じものを想定。
  本番と別の接続先にすれば、研究室の処理が本番の利用者を待たせない）
- ループの上限等: `[skill_lab_worker]`（反復回数・時間の上限・待ち間隔・AI に渡す文字数）
- ワーカー自身のログ: `[log]`

本体インスタンスを複製してワーカーを作った場合も、複製元の設定のうち上の3つ以外は持ち込まない。ワーカーが複数あるときは、テーマごとに担当を選ぶ。

**研究テーマはインスタンスごと**: 組織別・役割別のインスタンスごとに、画面左の一覧でインスタンスを選ぶと、そのインスタンスの
ドラフト・テーマだけが出る（インスタンス詳細の「スキル研究室」サブタブ、カードの「研究テーマ」ボタンからも開ける）。
テーマは対象インスタンスのデータフォルダ（`data/<インスタンス名>/skill_lab/themes/<テーマID>/`）に置かれ、API も
`/api/instances/{name}/skill-lab/...` の下にあるため、他のインスタンスのテーマ・ドラフトには触れない。
1つのテーマは、複数のスキル・サブエージェントと、それらにまたがるケースのまとまり。

| 画面（テーマの詳細） | できること |
|---|---|
| 研究内容 | 上から順に埋めれば開始できる1ページ（【必須】は ①②③、足りない間は開始ボタンを押せず、足りないものを見出しの下に表示）。**① 研究対象**（スキルかサブエージェントを1つ以上）：A. 利用者のドラフトの取り込み／B. 正式スキル・正式サブエージェントの複製（改善）／C. 新規作成（注文文から AI が作る／白紙のひな形）、ファイルの編集・追加・削除。サブエージェントは frontmatter（説明・tools の選択・model）と本文、run_script で呼んでよいスキル（`[subagent] agent_type_run_script_allowlist` へ足す分）をフォームで編集できる。**② やってほしいこと**（`spec.md`、必須は「目的」）：目的・使う場面・期待する出力・やってはいけないことを欄ごとに書く採点の基準。AI judge の判定と AI 修正の基準で、AI は変えない。③ の試験問題は例にすぎないため、② が無いと AI が試験にだけ通る直し方をしても見分けられない。見出しだけ・「要確認:」だけの「目的」は未記入とみなす。決まった見出し以外を含む spec.md はそのまま編集する。AI による下書き（① の一覧・入手元・注文と中身を読んで書き、人が書いた所は残して空いている所を埋める）。**③ 試験問題**（ケース、1問以上）：② を実際に試す問題。必須は利用者の指示と合格の決め方（回答に入るべき・入ってはいけない言葉、AI が判断する点のどれか）で、問題の名前は空欄なら `case_001` 等を自動で付け、ほかは「細かい設定」に折りたたむ。YAML の直接編集、AI による下書き（① の中身と ② をもとに、期待する出力を合格の条件、やってはいけないことを不合格の条件にする）、試験で使うファイルのアップロード（`cases/fixtures/<フォルダ>/`。ケースの `work_dir: fixtures/<フォルダ>`）、1回試行。**設定パッチ**（`config_patch.json`、折りたたみ）の編集、**AI への依頼**の状況 |
| 実行の記録 | 反復ごとのケース別合格数、AI の分析と直したファイル、各回の最終回答・実行の記録・AI judge の理由 |
| レビュー・昇格 | トライアウトの結果、取り込み・複製した時点からの差分（スクリプトの変更・AI によるケースの変更は強調）、昇格前の確認（配置先・登録する設定・同梱スキルの置き換え）、承認して昇格、差し戻し・不採用 |
| 履歴 | 人・AI の操作の記録 |

**スキル調整ループ**（「スキル調整ループを開始」）: スキル調整ワーカーが、対象インスタンスの構成（会社専用のスキル・ガード設定を含む）に
テーマの全資産（`--skill-overlay`・`--agent-overlay`）と設定パッチ（`--config-patch`）を重ね、LLM の接続先だけを研究室のものにして
（`--llm-from-instance`）全ケースを評価する。judge 付きのケースは AI judge が仕様と judge の観点で判定する。

1. 失敗があれば、AI が失敗の記録（満たさなかった判定・ツール呼び出しと結果・最終回答）と仕様を読んで原因を分析し、
   資産（SKILL.md・scripts/・references/・サブエージェント定義）・ケース・設定パッチを直して、もう一度評価する。
   直せる場所はテーマ内に限られ、frontmatter・tools 名・ケースの形式・Python の構文に1つでも違反があれば修正は全部取り消し、
   その理由を次の反復に渡す。ケースも直せるが、仕様と矛盾している場合だけで、変更はレビュー画面で強調される。
   試験に通るだけの直し方を防ぐため、AI はケースの削除・追加、入力ファイル（`cases/fixtures/`）の変更、研究対象そのもの
   （SKILL.md・エージェント定義）の削除、研究対象に無いスキル・サブエージェントの新規作成はできない。
   評価で使う LLM に接続できない（`llm_unreachable`）ときは、AI 修正に回さず「エラー」で止める。
2. 全ケースに合格したら、対象インスタンスの `tryout_repeats` 回ずつのトライアウトを行い、全回合格で「レビュー待ち」にする。
3. `[skill_lab_worker] max_iterations`・`max_hours` に達したら「上限到達」で止まる（手で直して再開できる）。研究室を停止した場合は、
   次に起動したときに続きから再開する（異常終了で「実行中」のまま残った AI への依頼も、起動時に待ちへ戻す）。
   テーマの「停止」は、担当のワーカーが動いていなければその場で停止になり、ワーカーが止まっている間に押した停止が
   再起動時に打ち消されることはない。

開始すると担当のスキル調整ワーカーが決まる（ワーカーが1つで「自動」の場合もそのワーカーに決める）。担当はテーマ詳細の
「担当・名前を変更」で変えられる（実行中・開始待ちの間は停止してから）。AI への下書きの依頼が残っている間は開始できない
（ループの途中で仕様・ケースが書き換わらないように）。合格の決め方（expect の条件か judge）が無いケース・`work_dir` の
入力フォルダが無いケースがあると、開始の条件（③）を満たさない。1つのドラフトを取り込めるのは、終わっていないテーマ1つだけ。
研究対象そのもの（スキルのフォルダ・SKILL.md・エージェント定義）はファイルの削除では消せず、「外す」で除く（取り込んだドラフトの印も外れる）。

研究対象・ケース・設定パッチ・入力ファイルを1か所でも変えると、それまでのトライアウトは無効になる（0回から）。

**昇格**（「承認して昇格する」）: 事前確認（トライアウトが今の内容を規定回数で評価して全回合格したものか、複製元の正式資産が
変わっていないか、取り込み元のドラフトが作成者によって変わっていないか、配置先の同名資産、設定の登録が環境変数に邪魔されないか）を
通ったテーマ全体を、対象インスタンス専用の置き場（`instances/<名前>/skills/`・`agents/`）へ置く。

- スキルのスクリプトの免除設定と設定パッチを、そのインスタンスの `config_overrides.json` へ登録する（評価で足したのと同じ値）。
- ケース一式（仕様・設定パッチ・入力ファイルを含む）は `instances/<名前>/evals/<テーマID>/` に残る
  （回帰テストは `python evals/run_all.py --cases-dir <そこ> --instance <名前>`）。
- 取り込み元のドラフトはアーカイブへ移り、作成者の一覧から消える。
- 置き換えたものは `evals/history/promote/` に退避し、記録は `evals/promotion_log.md` と変更履歴に残る。
- 任意で「他のインスタンスにも配布する」を選ぶと、選んだインスタンスごとに、それぞれの専用置き場へ複製して設定も登録する。
- 設定の保存に失敗した場合は、置いたファイルを元に戻す。昇格したものが使えるのは、配置先のインスタンスの再起動後。

インスタンスを削除すると `instances/<名前>/` 配下の `skills/`・`agents/` も消えるため、削除ダイアログに専用のスキル・サブエージェントの一覧を出して警告する。
インスタンスを複製して作るときは、専用の置き場も複製するかを選べる。

### 変更履歴（監査ログ）

`instances/admin_changes.log`（JSON Lines）に、設定変更・インスタンスの
作成/削除/起動/停止/再起動・ユーザー操作等を1操作1行で記録する。日時・
実行者・接続元IP・操作種別・（設定変更なら）変更前後の値を記録するが、
キー名に `api_key`/`password`/`secret`/`token` を含む値、および
`[llm].main_url`/`sub_url`（`api_key` をネストしたJSONとして含みうる）は
マスクして記録する。管理ツールの「変更履歴」タブから閲覧できる。

### APIリファレンス（curl での直接操作）

画面の操作はすべて HTTP API（`/api/...`）でも行える。curl での呼び出し方は
[admin/API_REFERENCE.md](admin/API_REFERENCE.md) にまとめてあり、同じ内容を
管理ツールの「APIリファレンス」タブでも表示する（表示のたびに md を読み直すため、
md を編集すれば管理ツールを再起動せずに反映される）。API を追加・変更した場合は
この md も更新すること。

### セキュリティ上の注意

既定では管理ツールはHTTPで待ち受ける。`[admin].host` を `0.0.0.0` にしてLAN上に
公開する場合は、`[admin].ssl_certfile`/`ssl_keyfile` を設定してHTTPS化すること
（「5. HTTPS で待ち受ける（任意）」参照）。HTTPのままだと、ログインパスワードや
設定値が平文でネットワークを流れる（社内LAN等、経路上の盗聴リスクを許容できる
場合を除きHTTPのまま公開しないこと）。
また `[scripts].python` や `[llm]` の接続先を変更できることは、実質的に
任意のコード実行・任意のLLMサーバーへの接続を許可することと同義であり、
管理ツールへログインできる人（`ADMIN_USERS`）の範囲には注意すること。

---

## バージョン管理とリリース手順

バージョン番号は [セマンティックバージョニング](https://semver.org/lang/ja/)（`MAJOR.MINOR.PATCH`）で付け、
正本はプロジェクト直下の `VERSION` ファイル（1 行）の 1 か所だけに置く。
`src/version.py` の `__version__` がこれを読み、次の場所に表示される（手で書き換える箇所は他に無い）。

| 表示先 | 内容 |
| --- | --- |
| チャット画面 | ヘッダーのタイトルにマウスを乗せたときのツールチップ（`GET /locohane/version`） |
| 設定ダッシュボード | 上部バーのタイトル横（`GET /api/me`・`POST /api/login` の `version`） |
| MCP サーバー | `initialize` 応答の `serverInfo.version` |
| ログ | 本体起動時の `app_*.log` に `Locohane vX.Y.Z を起動しました。` |

### 番号の上げ方

- **1.0.0 になるまで（0.x）**: `config.ini` のキーの移動・改名、データ配置の変更、ツール・スキル・
  サブエージェントの廃止など、既存の設定やデータのままでは動かなくなる変更を含む場合は **MINOR** を上げる。
  機能追加も MINOR。不具合修正と互換性を保った小さな改善だけなら **PATCH** を上げる。
- **1.0.0 以降**: 互換性のない変更で MAJOR、互換性のある機能追加で MINOR、不具合修正で PATCH を上げる。
- `system_prompt/`・`agents/`・`skills/` のプロンプトのチューニングだけの変更は PATCH とする。

### 変更履歴（CHANGELOG.md）

日々のコミットでは、利用者・運用者に関係する変更を `CHANGELOG.md` の `## [Unreleased]` に
「追加」「変更」「廃止」「修正」「移行時の注意」の見出しで追記しておく。
設定キーの移動・改名やデータ配置の変更は、旧キー → 新キーが分かるように必ず「移行時の注意」に書く。

### リリース手順

`main` ブランチで、作業ツリーがクリーンかつテストが通る状態から行う。

1. `CHANGELOG.md` の `## [Unreleased]` の内容を `## [X.Y.Z] - YYYY-MM-DD` へ移し、空の `## [Unreleased]` を残す。
   末尾の比較リンク（`[Unreleased]`・`[X.Y.Z]`）も追加・更新する。
2. `VERSION` を `X.Y.Z` に書き換える。
3. フロントエンドを変更していれば `frontend/` で `npm run build` し、`public/build/` を更新する。
4. `pytest` を実行して全件成功を確認する。
5. 「Release vX.Y.Z」の 1 コミットにまとめ、注釈付きタグを付けて push する。

   ```bash
   git commit -am "Release vX.Y.Z"
   git tag -a vX.Y.Z -m "Locohane vX.Y.Z"
   git push origin main vX.Y.Z
   ```

6. GitHub Release を作成する（本文は `CHANGELOG.md` の該当版の節）。

   ```bash
   gh release create vX.Y.Z --title "Locohane vX.Y.Z" --notes-file <該当版の節を書き出したファイル>
   ```

Claude Code からは `/release` スキル（`.claude/skills/release/`）でこの手順を対話的に実行できる。

---

## ライセンスと商用利用

### 本プロジェクトのライセンス

本ソフトウェアは **MIT License** です。詳細は [LICENSE](LICENSE) を参照。

### 依存パッケージ（商用利用可）

`requirements.txt`（pip）の直接依存から到達する実行時の推移的依存、全 160 パッケージの
ライセンス内訳:

| ライセンス種別 | 数 | 商用利用 |
|---|---:|---|
| Apache 2.0 | 74 | ✅ |
| MIT | 55 | ✅ |
| BSD | 26 | ✅ |
| PSF | 3 | ✅ |
| MPL 2.0 | 2 | ✅（改変せず利用する限り） |

**GPL / AGPL / LGPL は含まれません。** すべて寛容ライセンス、またはファイル単位の
弱いコピーレフト（MPL 2.0）であり、改変せず依存として利用する限り本ソフトウェアへの
組み込み・商用配布が可能です。全パッケージの完全な一覧と帰属表示は
[THIRD_PARTY_LICENSES.md](THIRD_PARTY_LICENSES.md) に記載しています（依存追加時は
`tools/gen_licenses.py` で再生成）。

上記は pip 依存のみが対象です。`frontend/` の npm 依存（react、recoil、
`@chainlit/react-client`、vite 等、いずれも MIT / Apache 2.0）は別途手動確認済みで
GPL / AGPL / LGPL 系は含まれませんが、`tools/gen_licenses.py` の自動集計・
THIRD_PARTY_LICENSES.md には含まれていません。npm 依存を追加・更新した場合は
`frontend/package-lock.json` のライセンスも別途確認してください。

なお `frontend/public/favicon.svg`（`public/build/favicon.svg` に配布）は
[Chainlit](https://github.com/Chainlit/chainlit)（Apache 2.0）が同梱するデフォルトの
favicon をそのまま使用しています。

### 外部通信について（完全オフライン保証）

本スタックの外部送信はすべて **opt-in**（API キー設定時のみ）で、既定では発生しません。
`app.py` 冒頭で以下を明示的に無効化しています:

- Chainlit の Literal AI データ層（`LITERAL_API_KEY` 未設定なら送信なし）
- LangChain の LangSmith トレーシング（`LANGCHAIN_TRACING_V2` / `LANGSMITH_TRACING` を false 化）

唯一の外部通信は `config.ini` の `base_url`（既定 `http://localhost:8080` = ローカルの
llama-server。vLLMを使う場合も同様にローカルのエンドポイントを指す）への LLM 呼び出しのみです。

MCPサーバー機能（`.locohane/settings.json`、上記「MCPサーバー接続」参照）を有効化した
場合、そこに定義したコマンド（例: `npx` 経由のサードパーティ製MCPサーバー）が
ローカルサブプロセスとして起動されます。既定状態（`.locohane/settings.json` が
空の `mcpServers` のみ、または `[mcp] enabled = false`）では何も起動されず、
オフライン保証は変わりません。ただし、ユーザー自身が追加したMCPサーバーが内部で
ネットワーク通信を行うかどうかは各MCPサーバーの実装次第であり、本プロジェクトの
管理範囲外です。

ベクターDB（`[vector_db]`、既定は無効）を有効にした場合、埋め込みは `embedding_url` の推論サーバー、
`backend = qdrant` 時のベクターは `qdrant_url` の Qdrant サーバーへ送る（取り込んだ文書のチャンク本文を含む）。
どちらもローカルまたは LAN 内のサーバーを指定する前提で、既定の `backend = sqlite_vec` ではローカルファイルにだけ保存する。

`web-search` スキル（Tavily APIによるWeb検索）は、スキル専用の
`skills/web-search/scripts/.env` に `TAVILY_API_KEY` を設定した場合のみ、
ユーザーがこのスキルを実行した時に限り `https://api.tavily.com` へ通信します。
未設定（`.env` 自体が無い、または空）の場合は一切通信せず、設定手順を示す
エラーメッセージを返すだけです。

### サードパーティ製Agent Skillsのライセンス

`skills/`・`.locohane/skills/` 配下にGitHub等で公開されているサードパーティ製の
Agent Skills（SKILL.md一式）を追加導入した場合、そのスキル自体のライセンス・
著作権表示は本プロジェクトのMIT Licenseとは別に、そのスキルの配布元が定める
条件に従います。ユーザーが任意に追加する外部コンテンツであり、本プロジェクトの
同梱物ではないため、`THIRD_PARTY_LICENSES.md`の自動集計・本プロジェクトの
ライセンス保証（上記「依存パッケージ」節）の対象外です。導入前に配布元の
LICENSEファイル・SKILL.mdのfrontmatter（`license`キー）を確認し、商用利用の
可否・帰属表示義務の有無を個別にチェックしてください。スキルが追加で外部
パッケージに依存する場合、そのパッケージのライセンスも別途確認が必要です
（`requirements.txt`への追加は本リポジトリ直下 `CLAUDE.md`「修正・実装時
ルール」に従うこと）。

### 商用利用時のチェックリスト

- [ ] 使用するモデル（GGUF/vLLM対応形式）の**ライセンス**を確認する（→ 上記「推論サーバー（llama.cpp / vLLM）の起動例」の注記）
- [ ] 依存を追加・更新したら `tools/gen_licenses.py` で告知ファイルを再生成する
- [ ] サードパーティ製Agent Skillsを追加した場合、そのスキル自体と追加依存
      パッケージのライセンスを個別に確認する（上記「サードパーティ製Agent
      Skillsのライセンス」参照）

---

## 免責事項

本ソフトウェアは「現状のまま」（as-is）で提供され、明示的または黙示的な保証はありません。
著作者または著作権者は、本ソフトウェアの使用またはそれ以外の行為について、本ソフトウェアに
起因するかぎり一切の責任を負いません。いかなる状況下においても、本ソフトウェアの使用により
直接・間接的に生じたいかなる損害（データ消失、システム障害、ビジネス損失、機会損失を含む）
について、著作者または著作権者は責任を負いません。

上記は本ソフトウェアに適用される [LICENSE](LICENSE)（MIT License）の無保証・免責条項の
要約です。詳細な法的文言は LICENSE 本文が優先します。

## README_DETAIL.md更新時の注意 

見出し（`##`/`###`）を追加・変更・削除した場合は、`CLAUDE.md`・`QWEN.md` の「ClaudeCode実行時ルール」に記載している README_DETAIL.md 見出し一覧も必ず合わせて更新すること。
利用者の操作手順や画面の見え方が変わる変更は、利用者向けの [README.md](README.md) にも反映すること（README.md には設定キーやディレクトリ構造の詳細は書かず、本書へのリンクで済ませる）。

