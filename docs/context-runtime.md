# 共通コンテキストの実行

2026-09-12。設定 › プラグインで、指示・Skills・外部 MCP ごとに「エージェントに任せる」か「Pleiad がそろえる」を選ぶ。既定はエージェント任せ。2026-09-20 から設定は種類ごとに「すべての場所（既定）」と場所ごとの上書きで持つ（`docs/context-management.md`「保存と継承（形式 2）」）。外部 MCP については Pleiad 自身の登録（`<data>/mcp-servers.json`）も持つ。エージェント側の設定ファイルは書き換えない。

## セッションと適用範囲

担当は種類ごと・場所ごとに継承する（一番近い上書き、無ければ既定）。1 つの種類の担当は、その場所の home 側と作業場所側の探索結果に共通。片方だけをネイティブ、もう片方を Pleiad にすると二重読み込みになるため分割しない。

最初の送信時に担当・探索の計画・cwd を `store` の `contextSession.policy` に記録する（`{ version: 2, cwd, at, owners, plan, removedMcp?, refreshedAt? }`。形式 1 の `{ user, directory }` の記録も読める）。`at` は方針を決めた時刻で、会話の右パネルの「開始時（…）に決まり」に使う。既存の送信済み会話で記録がない場合は native を維持する（`policy.keepNative`。以後のターンも変えない）。

**設定の変更は次のターンから効く**（2026-09-23、issue #19）。以前は担当と探索の計画を会話の開始時に固定していたため、外部 MCP を登録したり MCP の担当を Pleiad に変えたりしても今の会話には出ず、「登録したのに使えない」と見えた。今はターンの開始ごとに、今の設定と作業場所で担当（owners）・探索の計画（plan）・`policy.cwd` を解き直す（`followSettings`。再開・バックエンド切り替え・分岐も同じ）。引き継ぐのは会話ごとの決めごとだけ: 開始時刻 `at`・`refreshedAt`・「この会話では外す」MCP（`removedMcp`）・`keepNative`。設定の変更で渡し方が変わった種類（担当か Pleiad が探す範囲。作業場所の変更だけなら数えない）があれば、履歴に `field: 'context'`（理由 `contextSettingsApplied`）を残し、`contextRefreshed`（`settings: true`）で会話に一行出し、`refreshedAt` を取り直す。渡し方はもともとターンごとに組み立てている（Claude はターンごとに `query()` を起こして `strictMcpConfig` などを渡し、Codex は Pleiad 担当のターンごとに app-server を起こす。ply_context の橋渡しもターンごとに開き、`tools/list` はその時点の登録を返す）ので、ターンの途中の反映は要らない。会話のあいだ agy を 1 本生かす antigravity だけは、担当と渡すツールの名前（橋渡しの `shape`）が前のターンと違えば agy を起こし直す（会話は `--conversation` で続く）。再開時に作業場所（cwd）を変えた場合も止めない。新しい場所の設定で解き直し、探し直した結果が変われば、下の自動の読み込み直しと同じく記録・pin・`refreshedAt` を取り直して知らせる。以前は cwd を固定して送信前にエラーにしていた（`共通コンテキストを使う会話の作業場所は固定です`）が、指示は毎ターン解き直して渡しているため技術的な必然性がなく、2026-09-23 に撤廃した。

指示と Skills は固定（pin）するが、**変わっていても送信は止めない**。送信時は毎ターン今のファイルで解き直しているので、違っていればそのまま新しい内容で続け、記録・pin・`policy.refreshedAt` を取り直したうえで、何が変わったかを変更履歴（`field: 'context'`）と会話の一行（`contextRefreshed` イベント）に残す（`core/server.mjs` の `runTurn`）。止める必然性が無いのは、指示本文は毎ターン指示欄へ渡し直しており、Skills はカタログ（名前・説明・ID）しか渡していないため。pin が守っているのは「右パネルの記録＝実際に渡したもの」という一貫性だけなので、記録を取り直して知らせれば足りる。

固定の対象は**指示の本文と、Skills のカタログ（名前・説明）**（`contextPin`）。Skill 本文のハッシュは含めない（`load_skill` が呼ばれるたびに今の本文を読んで渡すので、本文だけの編集では会話に何も起きない）。MCP は接続先の設定なので固定しない。毎ターン登録と認証を確認し、実効定義が変われば接続を更新する。

### 新しい内容で会話を続ける（`refreshContext`）

送信を待たずに**今すぐ**最新の内容を読み込み直す操作（次の送信でも自動で読み込み直すので、右パネルで内容を確かめてから反映したいとき用）。今までのやり取りは引き継ぐ。会話の方針（担当・探索の計画）はそのままに、今のファイルで解き直して pin と記録を取り直し、`policy.refreshedAt` を残す。次のターンから新しい指示がバックエンドの指示欄（Claude の append・Codex の developerInstructions）に渡る。MCP の行は次のターンで接続を確認するまで直前のターンの様子を残す。返答中は受け付けない（ターンの終わりに古い記録で上書きされるため）。

既存の仕組みとの関係: fork（分岐）は元の会話の `contextSession` を引き継ぐので、分岐した直後の pin は古いまま。バックエンドの切り替え（引き継ぎ）も方針と pin を保つ。どちらも次の送信で自動的に読み込み直される。

#### pin が動いたときの調べ方

固定の対象はその会話が使ったものではなく**探索結果すべて**（`contextPin`）なので、`~/.claude/skills/**` や `~/.codex/AGENTS.md` のような home 側の編集 1 件で、その内容と無関係な会話でも「変更あり」が出て、次の送信で読み込み直しが走る（送信は止まらない）。Skill 本文だけの編集では pin は動かない。

どのファイルが変わったかは `pinChanges` をそのまま呼んで確かめる（引数は DB の会話の記録の `contextSession`）。送信時の自動の読み込み直しは、探索を二度走らせないために前後の記録を突き合わせる（`pinnedChanges`）。

```js
import fs from 'node:fs/promises';
import os from 'node:os';
import path from 'node:path';
import { pinChanges } from '../core/context-runtime.mjs';
const all = readSessions(path.join(os.homedir(), '.agent-host'));   // tests/lib/data-store.mjs。読み取り専用の接続で DB から組み直す
console.log(await pinChanges(all['<sessionId>'].contextSession, {}));
// -> { differs, paths, files: [{ path, before, after, modifiedAt }] }
```

`before` のハッシュで `<data>/context-snapshots/<sha256>.txt` を引けば開始時の本文が出るので、`diff` で中身の変化まで追える。

### 差分（`contextDiff`）

固定する指示・Skills の本文は、解いたときに `<data>/context-snapshots/<sha256>.txt`（内容のハッシュを名前にして 1 つずつ。0600）に残す。`contextDiff` は変わったファイルごとに開始時の中身（スナップショット）と今の中身を返す（256 KiB まで）。この版より前に始めた会話は開始時の中身が無く、`beforeMissing: true`。

### この会話では外す（`setSessionMcp`）

`{ sessionId, name, removed }`。方針の `removedMcp` に名前を足し（外す）、記録の行を `removed` にする。次のターンから、その MCP には接続せず（stdio なら起動もしない）、`ply_context` にもツールを出さない。ほかの会話・設定は変えない。返答中なら、走っているターンの記録も同じに直す（ターンの終わりに記録を書き戻すので）。`removed: false` で戻す（次のターンからつなぐ）。

ログインが要る MCP（要ログイン）は、ログインが済めば次のターンで自動で接続を試す（会話を作り直す必要はない）。登録と認証は毎ターン確認し、定義が同じ接続は生存確認して再利用する。返答の途中で追加された登録は、次のターンで接続する。

解析不正・探索上限・未展開の参照がある場合は、指示を落としたまま送信しない。同名の別 Skill / MCP は勝手に上書きせず、除外パスで選ぶよう案内する。探索結果は同じ実体・適用範囲をまとめ、開始時に渡す指示は実体パスでさらに重複排除する。ユーザー共通と作業場所の両方から同じ指示を見つけたら、先に見つかるユーザー共通の広い適用範囲を残す。CLAUDE.md の import は参照元の行を除いて展開先を一度だけ渡す。

## 指示と Skills

指示本文はバックエンドのシステム／developer 指示へ渡し、ユーザー発言や会話本文に混ぜない。合計128 KiBを上限とする。子階層の指示には `instructions_for_path` ツールを使うよう初期指示に明記し、実体パスが cwd 配下であることを検証してその範囲の指示を返す。Claude の rules のうち `paths` の無いものは `CLAUDE.md` と同じく開始時に渡す。`paths` 付きのもの（記録の状態は `conditional`）は開始時に本文を渡さず、glob の一覧と「当たるファイルを扱う前に `instructions_for_path` を呼ぶ」ことだけを初期指示に書く。`instructions_for_path` は求められたパスそのもの（まだ無いファイルでもよい。在る親の実体パスにつなぐ）が glob に当たる rules を、frontmatter を除いた本文と `Scope: files matching …（起点）` の範囲付きで返し、記録の行を `loaded` にする。ユーザーの rules の glob は会話の作業場所から見る。これはモデルが必要時にツールを呼ぶ方式であり、すべての任意のシェル内ファイルアクセスをフックする仕組みではない。

Skills は名前・説明・ID・元のディレクトリのみを一覧として渡す。`load_skill` は選択済み ID のファイルを必要時に読み、**そのときの本文**を返して記録の行のハッシュを渡した内容へ直す（開始時と違っても止めない。固定しているのはカタログだけなので、本文の編集はそのまま次の読み込みに効く）。スクリプト・参照は元のディレクトリを基準にし、コピーは作らない。ツール権限は緩和しない。`disable-model-invocation` はユーザーの依頼に `$名前` があるターンだけ公開。`context: fork` などネイティブ固有の実行設定は適用したことにせず、未対応として記録し公開しない。

`instructions_for_path` と `load_skill` は、同じ会話で渡し済みの本文を繰り返さない。渡した本文のハッシュを行の id ごとに `contextSession.delivered`（`{ backend, entries }`）へ残してターンをまたいで持ち越し、同じ本文なら `Already provided in this conversation: <パス> (scope: …). Not repeated. …` の一行だけを返す（記録の行は `loaded` のまま、`calls` に頼まれた回数）。ファイルが変わっていれば本文を「変わった」の一言付きで渡し直し、`full: true` なら必ず本文を返す。控えを捨てる（次は本文を渡し直す）のは、圧縮の**完了**（Claude の `compact_boundary` / `compact_result`、Codex の `contextCompaction` / `thread/compacted`。開始と失敗では消さない）、履歴を引き継ぎの文で渡し直すターン（バックエンドの切り替え・ホスト側で写した分岐の最初のターン。`pendingHandoff`）、「新しい内容で会話を続ける」、編集して再送信・再送信（同じ会話での巻き戻し。`sendMessage` の `rewind`。巻き戻した先のモデルは、捨てたターンで渡された本文を持っていない。ADR 0102）と、分岐して送る（`fork` の `beforeMessageId`）。Antigravity の圧縮はまだ検出できないので、エージェントが `full: true` で取り直す。**控えは指示欄のプロンプト（`contextTools` の `prompt`）に一切影響させない**。ファイルが同じならプロンプトはターンをまたいで同じバイト列のままにし、prompt caching を外さない（変わるのは末尾に積まれるツールの返りだけ）。

## Pleiad の指示

指示ファイル・Skills・外部 MCP とは別に、Pleiad 自身が会話に毎ターン入れる指示の一覧を持つ（`core/ply-instructions.mjs`、[ADR 0026](adr/0026-context-global-settings-and-ply-instructions.md)）。種類の担当によらず、`ply_agents` を持つ会話（Claude・Codex）に入る。antigravity は `ply_agents` を持たないので入らない（`capabilities.plyAgents`。記録も残さない）。

- **項目**: 既定の 2 項目（`child` 委譲された会話でのコマンドの扱い = コマンドには時間上限を付ける・常駐するサーバーやアプリはバックグラウンドで起動して PID を控え自分で止める・`Start-Process -Wait` のような無期限待機をしない（委譲の深さに上限は無いので、さらに委譲してよい）、`codexPolicy` Codex の実行前の拒否 = 承認なしのモードでも Codex 自身の安全判定で拒否されることがある。言い換えで回避せず、実行できなかったコマンドと理由・残ったものを報告する。委譲された会話・Codex だけが既定。docs/multi-backend.md「Codex の実行前の拒否」）、自分で足した項目（`u-…`。名前・本文・入れる会話 `all` / `parent` / `child`・エージェント `claude` / `codex`）、委譲と連動の項目（`route` 委譲の振り分けの使い方 = `kind` を付け `backend` は書かない。いつも最後）。既定の項目は編集でき、編集していなければ文面は辞書（`agent:guide.*`）から会話の言語で引く（Pleiad の更新で新しい文面になる）。編集したら保存した文のまま（「既定に戻す」で辞書の文へ戻る。既定と同じ内容で保存しても編集扱いにしない）。`route` は編集・スイッチを持たない。
- **入れる文**: 項目ごとに見出し「<名前>（Pleiad が追加した指示）:」（`agent:guide.heading`）と本文。並びの順に空行でつなぐ。
- **経路**: `ply_agents` の instructions の後ろに足し、同じ指示欄で渡す（Claude は `systemPrompt.append`、Codex は `developerInstructions`）。橋（`ply_agents`）は会話ごとに使い回すので、足すのはターンごと（`core/server.mjs` の `runTurn`）。MCP の initialize の instructions とツールの説明には入れない。
- **入れる条件**（`turnInstructions`。入れないときは理由を記録する）: スイッチが入っている（`off`）、入れる会話が合う（依頼元 = 会話の記録に `delegation` が無い、委譲された会話 = ある。`target`）、エージェントが選ばれている（fake などそれ以外はどれにも当たる。`agent`）、`route` は委譲先の自動選択が有効（`routingOff`）、`route` は読み取り・計画モードの依頼元には入れない（`ply_delegate` を受け付けないため。`readOnly`。委譲された子には読み取りのモードでも `child` を入れる）。
- **保存**: `prefs.json` の `plyInstructions`（`{ items: [{ id, on, name?, body?, target?, agents? }] }`。並びが入る順。既定の項目は編集したときだけ `name` などを持つ）。すべての場所に共通（場所ごとには持たない）。`plyInstructions` / `setPlyInstructions`（`action`: `save` / `toggle` / `delete` / `reset` / `order`）で読み書きし、画面は設定 › プラグインの「指示」のカード。**前の版の `addedContext`**（`{ delegation: false }` で委譲の指示を切っていた）は、`plyInstructions` が無い間は `child` を切った状態として読み、初めて保存したときに消す（`codexPolicy` は前の版に無かったので入れたまま）。保存済みの並びに無い既定の項目は、既定の位置に足して読む。**前の版の既定の項目 `delegate`**（委譲の進め方 = 委譲を基本にする・この会話でやること）は無くした（[ADR 0210](adr/0210-no-builtin-delegation-push.md)）。保存に残っていれば、本文を編集していないものは捨て、編集していたものは自分で足した指示（id `u-delegate`。名前を編集していなければ前の版の名前）に変えて、並びの位置・スイッチのまま読む。
- **トークン数**: 画面に出す数は `web/token-estimate.mjs` の見積もり（英数字・記号は 4 文字で 1、それ以外は 1 文字で 1。見出しを含む）。サーバーと画面で同じ数になる。
- **効く時期**: 次のターンから、始まっている会話にも。Codex のロード済みのスレッドは `thread/resume` で指示欄が変わらないので、前に渡した指示と違えば `thread/unsubscribe` してから読み直す（接続先を変えたときと同じ。指示だけの違いで外せなかったときは止めずに前の指示で続ける）。
- **記録**: ターンごとに `contextSession.added`（`[{ id, name, target, inserted: true, text } | { id, name, target, inserted: false, reason }]`）に残し、`sessionContext` の `added` で返す。会話の右パネルの「Pleiad の指示」と頭の札「Pleiad の指示 n」はこれだけから作る（前の版の記録 `{ id: 'delegation', variant, text }` も読む）。「新しい内容で会話を続ける」は `added` をそのまま残す。
- 中身が変わらなければ指示欄は同じバイト列のまま（prompt caching を外さない）。

## 指示の量（[ADR 0056](adr/0056-context-review.md)）

会話の右パネルの「指示の量」の面（docs/design-system.md「コンテキスト」）に出す数。毎ターン最初に読み込まれる指示だけを数え、条件付きの rules・Skills の本文・MCP のツール定義・auto-memory・会話の履歴は数えない。数え方はどこでも `web/token-estimate.mjs` の `estimateTokens`（実際のトークナイザーは使わない）。ファイルは書き換えない。

- **ファイルの行の量**: 探索（`core/context-scan.mjs`）が指示の行ごとに `tokens` を付ける。数えるのは渡す本文（`instructionBody`。`@参照` の行と rules の frontmatter を除く。参照先は別の行で数える）。設定の行・右パネルの行の「約 N」と、下の合計は同じ数になる。
- **Pleiad がそろえる会話**: 自分で書いた分は、記録の行（`contextSession.report.entries`）のうち `supplied` の `tokens` を、出どころ（`scope`: ユーザー／作業場所。足した場所は足した段の側）で分けて足す。途中で読み込んだ子孫の指示（`loaded`）は数えない。
- **エージェント任せの会話**: Pleiad は本文を渡していないので、パネルが `nativeInstructions`（`{ cwd, backend }`）を呼び、そのエージェントが読む規則（Claude は `claude`、Codex は `codex` の探す形式。探索の設定の除外・足した場所には従わない）で探した `candidate` の行を数える。画面は「推定」と添える。規則を知らないエージェント（antigravity・fake）は `entries: null` で、数えない。結果はパネルを開くたびに取り直す。
- **Pleiad が足す分**（`contextSession.plyParts`、`[{ id, tokens }]`）: `runTurn` が、そのターンで渡す文が出そろったところ（`runArgs` を組み立てた後）で `core/instruction-amount.mjs` の `plyParts` で数え、変わったときだけ記録し直す（それまでは前のターンの値を引き継ぐ）。内訳は `visualize`（Visualize の説明）・`skills`（ply_context の Skills の一覧）・`agents`（ply_agents の instructions）・`added`（Pleiad の指示）・`guide`（ply_context のうち指示本文以外: ファイルを包む文・子孫の指示と paths 付き rules の案内。`contextTools` の `sections`）・`browser`（ブラウザーの説明）・`computer`（ply_computer の指示文。エージェントごとの呼び方を足したもの）。実際に渡したものだけを載せる: `capabilities.plyAgents` を持たないバックエンド（antigravity）には Visualize と ply_agents の説明を数えず、内蔵ブラウザーの無い会話にはブラウザーの説明を、ply_computer を渡さない会話にはコンピューターの操作の説明を数えない。`sessionContext` の `plyParts` と、ターンの `contextUsage` イベントの `plyParts` で画面に届く。
- **目安**: 自分で書いた分（ユーザー＋この場所）にだけ当てる。既定 5,000、`prefs.json` の `instructionBudget`（`setPref`。100〜1,000,000 の整数、`null` で既定）。超えたら何倍かを 1 行で知らせるだけで、会話は止めない。

### 気になる所

量の面の中の「気になる所」に出すもの（ADR 0056「② 気になる所を知らせる」）。出すのは次の 2 つだけで、どちらも文の意味を読まない（文言の正規表現を使わない）。古い日付や「修正済み」のような書き方は見ない。判定は `core/context-findings.mjs`、単体テストは `tests/unit/context-findings.mjs`。

- **対象**: 量の面で数えている指示ファイルと同じもの。パネルがコマンド `contextFindings`（`{ sessionId, cwd, backend }`）を呼び、サーバー（`core/context-session.mjs` の `findings`）が決める: Pleiad がそろえる会話は記録の行のうち `supplied`（今のファイルを読み直す）、エージェント任せの会話は `nativeInstructions` と同じ探索（規則を知らないエージェントは `null` で、区画を出さない）。同じ実体のファイルは 1 つにする。読む量は探索と同じ上限（1 ファイル 256 KiB・合計 4 MiB・1,000 件。`core/context-scan.mjs` の `MAX_FILE` など）。
- **重複**: 違うファイルに、ほぼ同じブロックがあるもの。Markdown をブロック（段落・箇条の 1 項目・見出し・表の 1 行。先頭の frontmatter・コードブロック・`@参照` の行は除く）に分け、NFKC でそろえて小文字にし、文字と数字（`\p{L}` `\p{N}`）だけを残す。ならした後が 40 字未満のブロックは比べない（`DUPLICATE_MIN_CHARS`）。近さは文字の 5-gram（`DUPLICATE_GRAM`）の Jaccard 係数で、0.5 以上（`DUPLICATE_THRESHOLD`）を重複とする。しきい値は架空の文で決めた: 語を少し変えた写しは 0.7〜0.9、写しに 2 文を書き足したものは 0.55、同じ話題の別の段落・書き出しだけ同じ段落は 0.2 未満。同じファイルの中の繰り返しは出さない。返すのは両側のパス・出どころ・始まりの行と、文を共通の部分とそうでない部分に切ったもの（`segments`。共通の 5-gram に覆われた文字とその間の記号・空白が共通）。
- **無いパス**: この場所と親フォルダーの指示（ユーザーの指示・足した場所の指示は、どのリポジトリを指すか決まらないので調べない）の中の、バッククォートで囲んだ相対パスで、Git のルート（無ければその指示ファイルのあるフォルダー）から見て存在しないもの。その指示ファイルのあるフォルダーから見て有れば出さない。調べるのは `/` を含み、拡張子で終わるかディレクトリの形（末尾の `/`）のものだけ（`feat/x` のようなブランチ名を除くため）。末尾の行番号（`:12`）は落として調べる。URL・絶対パス・`~`・glob（`*` `?`）・置き換え用の書き方（`<…>` `{…}` `$VAR`）・空白を含むもの・ドメインで始まるもの・コードブロックの中は調べない。1 回に確かめるパスは 500 まで。
- 種類ごとに 20 件まで返し、超えた分は数（`more`）だけ返す。パネルを開くたびに計算し直し、保存しない。ファイルは書き換えない。

### 見直しを頼む

量の面の最後の「見直しを頼む」（ADR 0056「③ 見直しを頼む」）。押すと、同じ作業場所に未送信の新しい会話を作り、入力欄に依頼文の下書きを入れて、その会話を開く。自動では送らない。

- **会話の作り方**: 画面（`web/client.mjs` の `draftReview`）が `newSession` に `sourceSessionId`（今の会話）・`cwd`（量の面の作業場所）・`draft`（下書きの文）を渡す。エージェント・モデル・モード・アカウントなどは、今の会話から新しい会話を作るときと同じ引き継ぎ。`draft` はサーバーが会話を作るのと同時に下書き（`saveDraft` と同じ `draft` の記録）として保存するので、開き直しても残る。作っている間に押し直しても同じ約束を返し、会話を 2 つ作らない。
- **下書きの文**（`web/context-review.mjs` の `reviewDraft`）: 利用者が読んで直してから送る文なので、画面の言語（`ui` の辞書 `sessionContext.review.draft.*`）で組み立てる。中身は、対象のファイル（量の面で数えた行のパスとトークン数）・量と目安（超えていれば何倍か）・見つかった所（重複の 2 か所と行、無いパスと行）・見直し方（注意書きを「ツールを直せば消せるか → ガードや環境で塞げるか → 使った瞬間に案内できるか → 文書に残す知識か」の順で分類し、消す・移す・まとめる案を出す）・「ファイルを変える前に差分を見せて、確認を取ってください」。ファイルの本文は入れない（パスだけ）。
- ボタンは、自分で書いた分が目安を超えたか気になる所が 1 件以上あれば主要操作、どちらも無ければ控えめな見た目にする（`reviewUrged`）。数える行が無いとき（規則を知らないエージェント・読んでいる途中）は出さない。

## MCP

公式 TypeScript SDK のクライアントで stdio / Streamable HTTP / SSE に接続する。Claude・Codex の既存登録を読み、command / args / cwd / env、URL / headers、Codex の環境変数ヘッダー・bearer token 環境変数をメモリ内で解決する。環境変数参照は `${VAR}` / `${VAR:-fallback}` / `${env:VAR}` に対応。Codex の enabled_tools / disabled_tools を反映する。不明な設定を黙って落とさずエラーにする。

接続は最大8件を並列に進める。完了順によらず探索したサーバーの index 順でツールを登録し、ツール名の順序と `shape` を安定させる。つながらない 1 件（要ログイン・起動失敗・接続失敗）はその場で外して会話を進め、状態と理由を記録する（`connected` / `needs-auth` / `failed`）。サーバー数32、ツールの登録上限500（指示・Skill の補助ツールと外部ツールを index 順で積み、超えるサーバーだけを外す。従来どおり metadata 用の2ツールは会計後に加える）。接続と一覧取得の各リクエストの待機設定は最大60秒で、全サーバーの準備にはそれ以上かかる場合がある。同じ名前の外部 MCP が複数あるときは、設定で選んだ定義（`prefer`）、無ければ先に見つかった方を使い、残りは `shadowed`（`shadowedBy: 'choice'`）にする。Pleiad に登録した同名があれば Pleiad の登録が優先（`shadowedBy: 'ply'`）。

外部接続は `createContextBridge` 内のプールで会話をまたいで共有する。キーはサーバーの `item.id` と実効定義のハッシュ（解決した command / args / cwd / env / URL / headers・タイムアウト・ツールの絞り込みなど）。接続キーには秘密値を含む実効定義のハッシュを使い、生の値をログやディスクへ保存しない。毎ターン登録と認証を解決し直し、同じ接続は `ping`（最大3秒、設定の待機時間が短ければそちら）で確認して使う。失敗・定義変更・同じ作業場所で登録が消えた場合は古い接続を回収する。ほかのターンが使っていれば最後に手を離した時点で閉じる。無停止更新での `restarted: true` は必ず新しい接続にし、最初の呼び出しに状態が消えた旨を添える。

ターン終了では会話の中継口だけを失効させ、外部接続は最後の利用から10分で閉じる（タイマーはプロセスを引き留めない）。中断した接続は再利用せず回収する。`dispose()` とサーバーの終了経路はプール全体を閉じ、Windows の stdio は npx / uvx の子孫も回収する。Pleiad と各バックエンド間の接続は `/mcp/context`。ターン限定のランダムな資格情報で認証し、別会話からの利用や終了後の利用を拒否する。承認とターンの有効性は各会話の binding が確認する。サーバー名・ツール名の衝突を避けるため安定した ID を使い、説明には元の名前を添える。

`tools/list` の結果（tools / capabilities）は同じキーでプロセス内に最大128件保持する。再接続ではキャッシュがあれば一覧取得を待たずに返し、裏で再取得して中継の一覧と記録を更新する。キャッシュが無ければ一覧を待つ。ツール呼び出しの失敗時も一覧を再取得する。入力スキーマが変わり、実行前のツール名・引数検証で拒まれた場合（JSON-RPC の -32601 / -32602）だけ1回再実行する。業務エラー・応答喪失は再実行せず、消えたツールは一覧から取り除く。裏での取得に失敗した一覧は、次のターンで再取得を試す。キャッシュをディスクへは保存しない。

ツールに加えて resources / prompts の一覧・取得を中継する。ツールしか使わないバックエンドにも `mcp_resources` / `mcp_prompts` で提供する。外部 MCP の stdout / stderr や認証値を利用記録には保存しない。認証が要る MCP は Pleiad に登録して Pleiad でログインする（OAuth 2.1: 保護リソースメタデータ・認可サーバーの探索、動的クライアント登録、PKCE、リフレッシュ。トークンは OS の鍵の保管庫で暗号化して保存。詳細は `core/mcp-oauth.mjs` の先頭のコメントと `docs/context-management.md`「外部 MCP の画面」）。エージェントのネイティブ登録の OAuth 設定や、他クライアントが持つトークン保管庫は読まない（「Pleiad に取り込む」で登録を写し、Pleiad でログインし直す）。ネイティブ登録の HTTP MCP が 401 を返したときは `needs-auth` とし、取り込みを案内する。sampling・elicitation・タスク・リソース購読は共通接続のクライアント能力として宣言しない。

Claude はネイティブの承認経路を使う。Codex の共通 MCP は Pleiad 側で外部ツール呼び出しを承認し、full / yolo のみ確認を省略する。ask / auto / readonly は呼び出しごとに元のサーバー名・ツール名・引数を表示して確認する。共通の指示・Skill 読み込みツールは選択済みファイルの読み取りだけを行う。

## バックエンドの抑止

| 対象 | Claude | Codex | OpenCode（ターンごとの専用の `opencode serve`） |
|---|---|---|---|
| 指示 | claudeMdExcludes（CLAUDE.md・CLAUDE.local.md・AGENTS.md・.claude/rules）、autoMemoryEnabled=false | project_doc_max_bytes=0 | `OPENCODE_DISABLE_PROJECT_CONFIG`・`OPENCODE_DISABLE_CLAUDE_CODE_PROMPT`、写した設定の置き場（`XDG_CONFIG_HOME`）に AGENTS.md を置かず、設定の instructions を外す |
| Skills | skills=[]、disable-slash-commands（圧縮ターンを除く）、Skill を非公開 | 発見済み SKILL.md の skills.config.enabled=false | `OPENCODE_DISABLE_EXTERNAL_SKILLS`・`OPENCODE_DISABLE_CLAUDE_CODE_SKILLS`、写した置き場に skills を置かない、会話の権限の規則で `skill` を deny |
| MCP | strictMcpConfig=true | ネイティブ登録を無効なプレースホルダーに置換 | 全体と作業場所の設定から mcp を外す |
| 指示の注入 | claude_code preset append | thread developerInstructions | `prompt_async` の `system` |

OpenCode は指示を会話ごとに止める口が無く、Skills の一覧もシステムプロンプトに入るため、Pleiad が担当するターンだけ専用のサーバーを起こし、ターンの終わりに止める（共有のサーバーや他会話には触れない。`core/backends/opencode-context.mjs`）。作業場所の設定を止めるので、エージェントに任せる種類（作業場所の指示ファイル・設定の instructions・`.opencode` の Skills・作業場所の mcp）は絶対パスと `OPENCODE_CONFIG_CONTENT` で渡し直す。作業場所の `.opencode` の中のエージェント・コマンド・プラグインは、そのターンでは読まれない。ply_context は中継の口（`/mcp/opencode/ply_context`）で渡す。

Claude は設定ソースと権限を保持し、Pleiad 管理時は初期化結果を確認するまでユーザー入力を送らない。Codex は管理対象のターン専用 app-server を作り、共有 RPC や他会話の設定を書き換えない。Skills または MCP の共通管理では plugins を無効にするため、その影響を設定画面に明示する。元の設定ファイルを書き換える抑止は行わない。

Antigravity（agy）は、会話ごとのカスタムエージェント（Pleiad の置き場の `.agents/agents/ply-context/agent.md`、`--add-dir <置き場> --agent ply-context`）で Pleiad のコンテキストを受け取る（`core/backends/antigravity-context.mjs`）。本文に指示と Skills の一覧、`mcpServers` に ply_context への stdio 中継（`core/agy-context-relay.mjs`）を書き、Skills・MCP がエージェント担当なら `inheritCustomizations` / `inheritMcp` で agy 自身の読み込みを残す。カスタムエージェントはワークスペースの AGENTS.md・GEMINI.md を読まないため、**指示も Pleiad 担当のときだけ**受け取る。指示がエージェント担当のまま Skills か MCP だけを Pleiad にした組み合わせは、その会話をエージェント任せにして理由を記録に残す（`guardedBackend` / `reason`。設定画面の Skills・MCP のカードと会話の右パネルにも出る）。

## Hooks

担当が「エージェントに任せる」の場所（既定）では、hooks は Pleiad から渡さない（[ADR 0045](adr/0045-hooks-management.md)）。各エージェントが自分の設定の hooks を実行する。担当が「Pleiad がそろえる」の場所では、下の「Pleiad がそろえる会話」のとおり。Claude の会話は `query()` に `includeHookEvents: true` を渡し、hooks の開始（`hook_started`）と応答（`hook_response`）を受け取る。`claude-normalize.mjs` がこれを `hookRun`（`{ phase: started|response, hookId, name, event, outcome?: success|error|cancelled, exitCode? }`）にする。出力（stdout・stderr・output）は秘密を含みうるので持ち出さない。通知は設定ファイルの hooks の分だけ届き、Pleiad 自身が `query()` に渡す SDK のコールバック（PreCompact / PostCompact）の分は届かない（実機で確認、2026-09-27。設定とコールバックが同じイベントで走っても通知は 1 組）。server は `hookRun` を画面の流れへは出さず、ターンに集めて終わりに会話の `hookRuns` へ足す（最新 60 件。ターンの中でも古いほうから、開始と応答の組ごとに捨てる。`trimHookRuns`）。

`sessionHooks { sessionId, cwd, backend }` は会話の右パネル用に、その会話のエージェントで cwd に見つかる定義（`scanHooks` と同じ行）と `hookRuns`（走っているターンの分を含む）を返す。`observable` は発火の通知を受け取れる接続か（Claude と Codex。Antigravity は Pleiad がそろえた会話で Pleiad が渡した分だけ: `observed: 'pleiad'`）。定義は「登録あり · 読み込み未確認」までで、読み込まれた・実行されたとは扱わない。発火の記録は開始と応答を `hookId` で組にし、応答が無いものを完了と推定しない。通知には設定ファイルのパスも command も無い。`hook_name` は「イベント:matcher」（例 `PreToolUse:Bash`）なので、その会話の場所で同じイベント・matcher の Claude の定義が 1 つだけのときその定義の名前で出し、結べなければイベントだけを出す。Codex は app-server の `hook/started`・`hook/completed`（`run.id`・`eventName`・`source`・`status`・`durationMs`）を同じ `hookRun` にする（`codexHookRun`。`source` を残し、出力の `entries` は持ち出さない）。Antigravity は通知を受け取れないので「観測できません」とし、0 件・未実行とは書かない。Grok の `hook_run_started`・`hook_execution`（`runs[].name` は `plugin/<置き場の名前>/hooks:<event>[i].hooks[j]`・`status`・`elapsed_ms`・`blocked`）は届くが、Pleiad の登録の id と結んでいないので、同じく「観測できません」とする。

### Pleiad がそろえる会話（[ADR 0049](adr/0049-hooks-pleiad-managed.md)）

ターンの開始ごとに、その場所の担当（`core/ply-hooks.mjs` の `resolveForTurn`。担当が分からない・Pleiad 担当で登録が壊れているときは始めない。docs/context-management.md「Pleiad がそろえる」）が Pleiad なら、`prepareHooksTurn`（`core/hooks-unify.mjs`）がそのエージェントへ渡す登録（`targets` に含み、オンで、その場所で外していないもの）を組み立て、会話の記録 `contextSession.hooks`（`{ owner: 'ply', at, agent, from, revision, supplied, unsupported, skipped, stopped, kept, leaks, unknownNative }`）に残してバックエンドへ `hooksRuntime` を渡す。担当がエージェントのターンは何も渡さない（`hooks.json` が無ければ読むだけで何もしない）。hooks を受け取れないエージェント（fake など）は、担当を読めなくても止めない。組み立てに失敗したらターンを始めない（`hooksUnify.prepareFailed`）。agy では、止める一覧を作るファイルを読めない（`hooksUnify.agyStopListIncomplete`）・ネイティブの名前が `pleiad-<id>` とぶつかる（`agyNameCollision`）・コンテキストの Skills も Pleiad が渡す（`agySkillsConflict`。カスタムエージェントの `inheritCustomizations: false` が `--add-dir` の hooks も止めるため）ときも始めない。変換は第 2 段と同じ（`deliverable` = `convertHook`。同じ形のコマンドはそのまま）。設定の変更は次のターンから効く。

| エージェント | ネイティブの止め方 | 登録の渡し方 | 発火の記録 |
|---|---|---|---|
| Claude Code | フラグ設定の `disableAllHooks: true`（`claudeContextOptions` の `hooks`。互換先はフラグ設定のファイル）。ユーザー・プロジェクト・ローカル・プラグインが止まる。管理者は止まらない | `query()` の `hooks` にコールバック（`claudeHookCallbacks`。Pleiad 自身の PreCompact / PostCompact と合わせる）。同じ形のコマンドは子プロセスで動かしてコマンドの hook の約束（exit 2 で止める・理由は stderr、ほかの exit・timeout は止めない）どおりに答える。別の形はアダプターの処理（`adapt`）を同じプロセスで通す。SessionStart・Setup は渡せない | コールバックの入口と出口で自分で記録（`pleiad: true`・登録の `id`）。会話の中断は子プロセスに伝え、中断済みなら起動しない（cancelled）。`hook_started` が届き、止めた定義と同じイベント・matcher なら漏れ（`leak`）、結べなければ出どころ未確認（`unknownNative`。管理者の hooks など） |
| Codex | ターンごとに、その会話の app-server の `hooks/list`（その cwd）を取り、`source` が `user`・`project` の key に `enabled: false`。プラグイン・管理者は止めない。`features.hooks=false` は使わない | `thread/start`・`thread/resume` の `config` の `hooks`（表。登録 1 件を 1 つの group）と `hooks.state` の `trusted_hash`。hash は同じ表を起動の `-c hooks=…` で渡した app-server（プローブ）の `hooks/list` の `currentHash`（`source: sessionFlags`。表ごとに覚える）。アダプター越しは `node "<data>/hooks-runtime/hook-adapter-<hash>.mjs" …`（PATH の node） | `hook/started`・`hook/completed`。`source: sessionFlags` は Pleiad の分、`user`・`project` は漏れ |
| OpenCode | ネイティブの形が無い（フックは JS のプラグイン）ので止めない。利用者のプラグインはそのまま動く | Claude Code の形を真似て渡す（エージェントの記述の `hooksAs: 'claude'`。`deliverable` は Claude へ渡すときと同じに組み立て、SessionStart も渡せる）。ツールの前後は Pleiad のプラグインの `tool.execute.before` / `after` が中継の口 `/mcp/opencode/hook` を呼び、Pleiad が `claudeHookCallbacks` で走らせる（止める答えはプラグインが例外にして、ツールの失敗として理由をモデルへ返す。`updatedInput` は OpenCode の入力の形へ戻す。PostToolUse の止める理由・足す文脈はツールの結果に足す）。SessionStart（新しい会話の最初のターン）・UserPromptSubmit（止める答えなら送らない。足す文脈は `system`）・Stop（続けさせる理由を次の発言として渡す。3 回まで）はバックエンドが走らせる。ツール名と入力は Claude の形へ写す（`bash` → `Bash`、`filePath` → `file_path` など。`core/backends/opencode-hooks.mjs`） | コールバックの入口と出口で自分で記録（`observed: 'pleiad'`）。ネイティブのプラグインの発火は観測できない |
| Grok | ネイティブ（`$GROK_HOME/hooks/*.json`（既定 `~/.grok`）・`config.toml` の `[[hooks.<イベント>]]`・git の根から作業場所までの `.grok/hooks/*.json`）はセッションごとに止められないので止めない（`kept`。コマンドは伏せ字）。Claude・Cursor・Codex 互換の読み込み元は、渡すターンの CLI を `GROK_CLAUDE_HOOKS_ENABLED`・`GROK_CURSOR_HOOKS_ENABLED`・`GROK_CODEX_HOOKS_ENABLED`=`false` で起こして止める（`stopped` の `compat`） | Claude Code の形を真似る（記述の `hooksAs: 'claude'`・`hooksVia: 'plugin'`）。ターンごとの置き場 `<data>/grok-hooks/<pid>-<乱数>/hooks/hooks.json`（`grokHooksFile`。登録 1 件を 1 つの group、アダプター越しは `<先>` = claude）を `session/new`・`session/load` の `_meta.pluginDirs` で渡し、Grok が自分で走らせる。プラグインはその会話だけで保存されないので、毎ターン渡す。置き場はターンの終わりに消し、持ち主のプロセスが居ない残りは、プロセスの最初の書き込みのときに消す（`core/backends/grok-hooks.mjs`）。`async` は Grok が読まず終わるまで待つので渡さない（`asyncGrok`）。Grok が起こさないイベントも渡さない | 発火の知らせは届くが、登録と結んでいないので観測できない |
| Antigravity | 一時の置き場（`--add-dir`）の `.agents/hooks.json` に、ユーザーと作業場所の定義の名前ごとの `{ "enabled": false }`（プラグインの名前は入れない）。カスタムエージェントは使わない（コンテキストを Pleiad が渡すときだけ今までどおり） | 同じファイルの `pleiad-<id>` の名前で、置き場の `.agents/pleiad-hooks/hook-adapter-<hash>.mjs` を相対パス（引用なし）で動かす。アダプターは stdin の `workspacePaths` から利用者の作業場所に直し、PreToolUse で何も言わなければ `allow` を返す | アダプターが 6 番目の引数（登録の id）で置き場の `runs.jsonl` に書き、ターンの終わりに読む（上限ずつ最後の改行まで。読み終えた分が 1 MiB を超えたら `runs.jsonl.1` へ入れ替え、アダプターは 8 MiB を超えたら書かない）。ネイティブの発火は観測できない |

- **Codex のロード済みのスレッド**: resume は hooks の `config` を無視するので、渡した hooks の config の指紋（`loadedHooks`。渡さないときは空）が前と違えば `thread/unsubscribe` してから resume する。追跡していないスレッド（どの config でロードしたか分からないもの）に hooks を渡すときも先に外す（`unloadForHooks`）。外せなければターンを始めない（`codex.errors.hooksUnsubscribeFailed`）。担当を戻したときも同じ。**圧縮**（`backend.compact`。PreCompact / PostCompact が動く）も同じ config を渡し、同じく外してから読み直す。
- **Codex の一覧と信頼**: `hooks/list` が欠けている・形が違う・cwd ごとの `errors` があればターンを始めない（`codex.errors.hooksList`。`codexListProblem`）。渡す登録すべての `trusted_hash` を取れない（プローブの失敗を含む）ときも始めない（`codex.errors.hooksTrust`。ネイティブだけを止めて続けない）。プローブ（`probeHookHashes`）は同じ表を同時に頼まれたら 1 本を分け合い、失敗は 30 秒のあいだ覚えて起こし直さず、新しく使った 50 表まで覚える。
- **agy の起こし直し**: 置き場の `hooks.json` は起動時にしか読まれない。登録・止める名前が前のターンと違えば（`shape`）agy を起こし直す（会話は `--conversation` で続く）。起動後に足されたネイティブの名前は、次に起こし直すまで止まらない。
- **止められないもの**: Claude の管理者の hooks、Codex・agy のプラグイン・管理者の hooks、Grok のネイティブの hooks。会話の記録の `kept` と、切り替えの確認の「止めずに動き続けるもの」に出す。ただし Grok は、会話の記録の `kept` にユーザー・作業場所・`config.toml` の分だけを出し、インストールしたプラグインと管理者（`managed_config.toml` など）の分は出さない。切り替えの確認にも出ない（`scanHooks` が Grok を探さない）。
- **Grok の確かめたこと**（Grok 1.0.62、2026-10-19 実機）: `_meta.pluginDirs` の PreToolUse の deny は、`session/new` でも、前の置き場を消した後の別プロセスの `session/load` でも、権限の確認より前に効き、ツールは走らない。`_meta` の無い `session/load` ではフックは走らない（保存されない）。フックの入力の `tool_name` は Grok の名前（`run_terminal_command` など）で、matcher は Claude の名前（`Bash`）でも当たる。Claude の形のスクリプトが `tool_name === 'Bash'` を見ていると当たらない。アダプター越しの別の形（agy・Codex）も、写す表（`core/hook-adapter.mjs`）に Grok の名前が無いので、ツール名と入力は Grok のまま届く。Pleiad の起こし方（`grok agent stdio`）では `session/load` の値が効いた（次のターンの置き場が走り、消した前のターンの置き場は走らない）。公式の手引き（`~/.grok/docs/user-guide/09-plugins.md`）では、daemon の経路の `session/load` は値を無視して `session/new` の置き場を使い続けるので、その経路ではこの渡し方は 2 ターン目から効かない。
- 右パネル（`sessionHooks`）は、走っているターンか保存した `contextSession.hooks` を `unify`、今の場所の担当を `owner` として返す。画面は design-system.md「Hooks」。

## 圧縮と会話 ID

Codex の手動圧縮（入力欄の `/compact` を含む）と放置後の自動圧縮は、ホストが持つ会話 ID を現在のネイティブスレッド ID に変換して実行する。圧縮中のイベントと承認はホストの会話 ID で届ける。Claude は通常のターンと同じ ID 変換を通して `/compact` を送る。Antigravity の圧縮は自身の管理に任せる。

Codex の未送信会話や、ホストが履歴を写した分岐・バックエンド切替の直後など、現在のネイティブスレッドがまだない会話は圧縮を開始せず、送信後に使えることを知らせる。圧縮のために新しいスレッドや引き継ぎターンを作ることはない。自動圧縮の予約は、正常に終わったターン（利用者の送信と、委譲の完了通知などで始まったターン）の完了後に作る（[ADR 0068](adr/0068-idle-compaction-after-notice-turns.md)）。

圧縮履歴の取得も Claude・Codex の現在のネイティブ ID を使う。まだネイティブ ID がない場合はネイティブ境界を読まず、保存済みの sidecar の記録だけを表示する。取得した境界は sidecar と統合するため、通知を受け取っていないネイティブ境界も開き直したときに表示できる（[ADR 0039](adr/0039-conversation-compaction.md)）。

## 利用記録と検証

`sessionContext {sessionId}` と会話の右パネル「この会話のプラグイン」（会話の頭の札・タイトル行の入口から開く）で、指示の供給元、Skills の案内／使ったもの、MCP の接続成否・ツール数・呼び出し回数、要ログイン・失敗の理由、除外理由を確認できる。記録は「モデルが理解した」という推定ではなく、Pleiad が渡した／接続した事実。ネイティブ担当の内部一覧を共通記録に含めたとは扱わない。エージェント任せの MCP は、そのエージェントの設定に登録されているもの（`agentMcp`）を読み取りのみで並べ、接続の成否は Pleiad から見えないと書く。antigravity で Pleiad 担当を扱わなかった会話は、記録の `guardedBackend` と `reason` を出す。

右パネルは種類ごとの行を出どころで分ける: 記録の行の `root`（足した場所で見つかった）→「追加した場所」、`scope: 'user'` →「ユーザー」、それ以外 →「この場所と親フォルダー」（記録の行は `scope` と `root` を持つ。前の版の記録は `origins[0].scope` で分ける）。一番上の作業場所の面は `contextSettings { cwd }` の今の場所から「全体の設定どおり／<親> の設定どおり／このフォルダーだけの設定 · n 項目」を出す。「この場所だけ変える」を押すと、その場所の設定で探し直した結果（`scanContext { cwd }`）に担当の 2 択と行のスイッチを付け、変えたものをその場所の上書き（`setContextSettings { place: cwd, kind, value }`。指示・Skills は見つかった範囲の `excludePaths`、MCP は `disabled`）として保存する。「全体の設定に戻す」はその場所の上書きを消す（`{ place: cwd, remove: true }`）。効くのは次のターンから。
戻りは `{ report, owners, pinned, changed, startedAt, refreshedAt, removedMcp, added }`（`added` は上の「Pleiad の指示」）。`report` が記録（外部 MCP の行には Pleiad の登録の認証方式 `auth` も付く）、`owners` はその会話が始まった時点の担当、`pinned` は固定の有無。`changed` は固定された会話でだけ行う今のファイルとの突き合わせで、`{ differs, paths, files }`（`differs` が正否、`paths` は変わったと分かったファイルの手掛かり、`files` は `{ path, name, kind, before, after, modifiedAt }`。会話中に `instructions_for_path` で読み足した子階層の指示が混じることがある）。ネイティブ担当の会話では探索を走らせず `null` を返す（`docs/design-system.md` §9）。

- `npm test -- context-runtime`：実 MCP クライアントと fixture、セッション分離・永続化・遅延読み込み。
- `npm test -- context-settings server-context`：形式 1 からの移行（意味が変わらない）、種類ごとの継承と即時保存、この会話では外す・読み込み直し・差分・エージェント任せの MCP。
- `node tests/manual/context-runtime-probe.mjs`：インストール済み3バックエンドの初期化・抑止を検証。モデルへの送信なし。
- `npm run test:e2e -- context-runtime`：3バックエンドの実サービスで共通指示・Skills・MCP の往復を確認。

一次資料：[Claude SDK](https://platform.claude.com/docs/en/agent-sdk/typescript)、[Codex configuration](https://learn.chatgpt.com/docs/config-file/config-reference)、[Agent Skills](https://agentskills.io/client-implementation/adding-skills-support)、[MCP TypeScript SDK](https://github.com/modelcontextprotocol/typescript-sdk/tree/v1.x)。
