# 更新で走っているターンを止めない（無停止の更新）— 設計

> 履歴資料: ここにある設計・計画は旧 handover 方式の記録で、現行実装ではない。更新と復元の規則は [ADR 0270](../adr/0270-server-may-die-anytime.md) 段 4b を参照する。


> ブラウザーの記述について（2026-10-08）: この文書に残る内蔵ブラウザーのエージェント操作・CDP の中継・中継の復元の計画と計測は、Chrome へ移す前の記録。ADR 0148 の第 7 段で `desktop/browser-relay.cjs`・`browser-navigation.cjs`・`agent-browser-bridge.cjs` と `AGENT_HOST_AGENT_BROWSER` は削除した。現在のエージェント操作は Chrome の中継だけで、ビューアのタブの写しと読み込みの方針は `core/browser-viewer.mjs` と `desktop/browser-viewer-bridge.cjs` が扱う。現在の動きは [ブラウザー](../inapp-browser.md) を参照。

- 状態: 確定（2026-10-06）。段階 0 の実測と、段階 1 の 1-0（頭の確認）の実測を反映した（この文書は設計。実装は [plan.md](plan.md) の段階ごと）
- **ADR 0270 の作り直し**: 段 1（試験の仕掛け）と段 2a（プロセスの口・`child_process` の検査・`!` の行と ply_shell のジョブを保持役へ・出力の計測）を実装（2026-10-26）。更新の手順・引き継ぎの経路は [ADR 0270](../adr/0270-server-may-die-anytime.md) が置き換える（この文書の §5 は ADR 0151 のときの記録）
- 決定: [ADR 0151](../adr/0151-zero-downtime-update.md)。段階と作業項目: [plan.md](plan.md)。管理: [issue #54](https://github.com/tekalu1/pleiad/issues/54)
- 実測の記録: [stage0-claude.md](stage0-claude.md)・[stage0-codex-agy.md](stage0-codex-agy.md)・[stage0-runtime.md](stage0-runtime.md)・[stage1-0.md](stage1-0.md)・[stage1-7.md](stage1-7.md)（実機の確認。測るスクリプトは `scripts/zero-downtime/`）
- 関係する決定: [ADR 0036](../adr/0036-interrupt-and-update-while-running.md)（中断して更新。更新の部分を 0151 が置き換える）・[ADR 0115](../adr/0115-records-in-sqlite.md)（データ置き場の単独の持ち主）・[ADR 0019](../adr/0019-rename-ply-to-pleiad-keep-identifiers.md)（識別子を変えない）・[ADR 0043](../adr/0043-agent-browser-via-per-session-cdp-relay.md)（会話ごとの CDP 中継）・[ADR 0083](../adr/0083-control-surface-cli.md)（control.json）・[ADR 0090](../adr/0090-cli-in-desktop-app.md)（CLI の起動口）
- 印: **【確認】** = コードを読んで確かめた。**【実測】** = 動かして確かめた（記録は stage0-*.md）。**【推測】** = 動かしていない見込み。**【未確認】** = 測れていない（末尾の「未確認の点」）

---

## 0. 結論

プロセスを 3 つの層に分け、それぞれ別の時に入れ替える。

| 層 | 中身 | 置き場 | 入れ替わる時 |
|---|---|---|---|
| main | Electron（窓・safeStorage・computer use・内蔵ブラウザー・トレイ・electron-updater） | `$INSTDIR`（今のまま） | NSIS が入れ替える。今と同じく止まって起動し直す |
| サーバー | `core/`・`web/`・`bin/`（今の `core/server.mjs`） | **版ごとの実行場所**（`$INSTDIR` の外。§3） | **引き継ぎ**（§5）。古いサーバーが手を離し、新しいサーバーが付け直す。間は 1〜1.6 秒（§5.1） |
| ターンの保持役 | エージェントの CLI の stdio・終了コード・出力の記録・答えていない依頼の控え | 実行場所（版に付く） | **入れ替えない**。規約（保持役の規約）が変わった版だけ新しい世代を立て、古い世代は子が全部終わったら消える |

更新の流れはこうなる（§5.1 に詳しく）。

1. 利用者が「再起動して更新」を押す。**作業を中断しない**。サーバーは「main が居なくなる」と知らされ、main に頼む機能だけを待たせる
2. electron-updater の `quitAndInstall` → NSIS が `$INSTDIR` のプロセスだけを止めて入れ替える（本物のインストーラーで 55〜70 秒）。サーバー・保持役・エージェントの CLI は `$INSTDIR` の外で走り続ける。スマホ（リモート）からはこの間も承認・送信ができる
3. 新しい main が起動し、走っている古いサーバーに付け直す。新しい版の中身を実行場所へ写す
4. 新しい main が引き継ぎを頼む。古いサーバーは書き込みを済ませてデータ置き場のロックを放し、終わる。新しいサーバーがロックを取り、保持役に付け直し、走っているターンを**記録の再生**で組み立て直して続きを動かす
5. 画面は新しい版を読み直す（版が変わったことを `ready` で知る）

推奨する案は、利用者が挙げた (b)「ターンの保持役」を芯にし、(a) のうち「サーバーと保持役を `$INSTDIR` の外の版ごとの実行場所で動かす」だけを取る組み合わせ（§2・§9）。実装は段階に分ける。**段階 1 は保持役を持たず、サーバーの切り替えだけを作業が終わるまで先送りする**（§6.1。利用者の承認済み）。

---

## 1. 今の作りで、更新がターンを止める理由

止めないには、次の 3 つを全部越えなければならない。

**(1) プロセスが止まる**

- サーバーは main の子の utilityProcess（`desktop/main.cjs` の `utilityProcess.fork`）。main が終われば終わる【確認】
- NSIS の `CHECK_APP_RUNNING` は、パスが `$INSTDIR` で始まるプロセスを PowerShell で全部 `Stop-Process` し、PowerShell が無ければ `taskkill /IM Ply.exe` で名前で止める（`node_modules/app-builder-lib/templates/nsis/include/allowOnlyOneInstallerInstance.nsh`）【確認。止まる側は実測。§3.3】
- npm の `.cmd` シムで入れた `claude`・`codex` は、`process.execPath`（= `$INSTDIR\Ply.exe`）で JS を走らせる（`core/cli-installation.mjs` の `cliCommand`）。**この CLI は NSIS に止められる**【確認】。ネイティブの `claude.exe`（`~/.local/bin`）は `$INSTDIR` の外なので止められない【確認】が、親のサーバーが居なくなる
- agy の MCP の relay（`core/backends/antigravity-context.mjs` の `agentDefinition`）・Codex の MCP 設定（`core/backends/codex.mjs`・`core/backends/context-options.mjs` の `process.execPath`）・`pleiad.cmd`（`$INSTDIR\resources\app\bin`。会話のシェルの PATH にある。`addCliToPath`）・`agent-browser`（`resources\agent-browser`）も `$INSTDIR` の中で走る【確認】
- 入れ替えには実測で 55〜70 秒かかる（利用者の実測。本物の配布物の形でインストーラーの区間を測ると 49〜53 秒で、内訳は [stage1-0.md](stage1-0.md) §4。試験用アプリ（Electron 本体のみ）では 17〜19 秒）

**(2) パイプが切れる**

- Claude は SDK の `query` が CLI を stdio の子として起動する（`core/backends/claude.mjs`）。1 ターン = 1 つの `query` = 1 つの CLI プロセス【確認】
- Codex は全会話で共有の `codex app-server` を 1 本、stdio の JSON-RPC で持つ（`core/backends/codex-rpc.mjs`）。サーバーの終了で止める【確認】
- agy は 1 会話 1 プロセスの stdio。サーバーの終了で畳み（`core/backends/antigravity.mjs`）、次の起動で残りを落とす（`antigravity-pids.mjs`）【確認】
- `!` の行（`core/shell-runs.mjs`）もサーバーの子で、終了で止める【確認】

**(3) サーバーのメモリにしか無いものが消える**

- SDK の `Query` の中: in-process の MCP `host`（`buildToolServer`）・`canUseTool`・hooks のコールバック・途中送信の控え（`pendingSteers`）【確認】
- `runtime.turns`・`runtime.waiting`（承認待ち）・`runtime.background`（`core/server.mjs`）【確認】
- 会話ごとの MCP の口（ply_agents・ply_context・computer・browser・control）のトークンと束縛（`core/mcp-bridge.mjs` の `bindings`）【確認】
- 画面のトークン（`core/server.mjs` の `TOKEN`。既定は起動ごとの乱数だが、`AGENT_HOST_TOKEN` で渡せる）・CLI のトークン（`CLI_TOKEN`）・待ち受けのポート【確認】

---

## 2. 切り方の比較

| | 何を生かすか | Electron の入れ替え | **core の入れ替え**（ほぼ毎回） | 単独での判定 |
|---|---|---|---|---|
| **(a) サーバーを Electron から切り離す** | サーバー全体（版ごとの場所で走らせる） | 越える | **止まる**。サーバーがターンの持ち主なので、core を替えるにはサーバーを替えるしかない。止めないなら「古いサーバーを手が空くまで残し、それから替える」（切り替えの先送り）になる | 要件を満たさない。ただし「`$INSTDIR` の外で走らせる」部分は (b) にも要る |
| **(b) ターンの保持役を分ける** | CLI の stdio・答えていない依頼・出力の記録 | 保持役と CLI が `$INSTDIR` の外にあれば越える | **越える**。サーバーは再起動して保持役に付け直す | 芯にする。サーバーが `$INSTDIR` に残ったままだと、入れ替えの間、承認・MCP・hooks に誰も答えない（§2.1） |
| **(c) バックエンドごとの外部化** | Codex の daemon / `--listen` など、バックエンドが持っている常駐 | Codex だけ | Codex だけ | 埋まらない。Claude にはデーモンが無い【確認：SDK の公開の口は `query`・`startup`・`prewarm` だけ】。agy にも無い。MCP の口と承認は結局サーバーに残る。Codex の `--listen` は実測した（§2.2） |

### 2.1 (b) だけでは足りない理由

サーバーを `$INSTDIR` の utilityProcess のままにして保持役だけを外に出すと、NSIS の入れ替えのあいだサーバーが居ない。その間:

- CLI からの承認（`can_use_tool`）・hooks・in-process MCP（`host`）の依頼は保持役に溜まり、答えられない。承認は、親が居ない 300 秒でも CLI が待ち続けて時間切れにならない【実測】が、in-process MCP は答えが無いと CLI が先へ進まず（45 秒待っても止まったまま）、hooks は付け直しでその呼び出しが打ち切られる【実測】
- HTTP の MCP（ply_agents ほか）はつながらない。つながらない間の呼び出しは、Claude Code では待たずに即座にツールのエラーになる【実測】
- スマホ（リモート）の接続口もサーバーにあるので、外からも何もできない

サーバーも外に出せば、この間もサーバーが答え続け、居ないのは main だけになる。引き継ぎの間（§5）は 1〜1.6 秒に縮む。

### 2.2 退けた案

- **パイプのハンドルを新しいサーバーへ渡す**: Node はプロセス間でパイプのハンドルを渡す口を、自分の子への IPC（TCP のソケットなど）にしか持たない【推測】。新旧のサーバーは親子ではない。CLI の親が古いサーバーのままになり、古いサーバーを終わらせられない
- **新旧のサーバーを並べ、会話ごとに分ける**: データ置き場を 1 つのプロセスだけが持つ決まり（ADR 0115、`core/data-lock.mjs`）を崩す。2 台が書くと記録が壊れる（AGENTS.md「データ置き場の保存」）
- **サーバーのメモリをまるごと直列化して渡す**: `core/server.mjs` は 6,400 行を超え、ターンの状態はクロージャと SDK の内部に散らばっている。版をまたぐ直列化の形を保つのは壊れやすい。代わりに、保持役が残した**出力の記録を再生して組み立て直す**（§4.5）
- **Codex の `--listen` / `daemon` を保持役の代わりにする**（codex-cli 0.160.0 を実測）:
  - `--listen ws://` と `unix://`（と `app-server proxy`）は、接続を切ってもターンも承認待ちも止まらず、付け直しは `initialize` + `thread/resume` で、承認の依頼は同じ id で再送される【実測】。しかし**切れていた間の通知は届かない**（本文の差分・ツールの行の開始を正規化に使うので欠ける）。スレッドごとに `thread/resume` が要る。ws は既定が認証なしで、同じ PC のどのプロセスも `initialize` を通せる【実測】
  - `daemon` は自前の codex.exe（約 300 MB）を写して立て、`stop` のあとも管理のプロセスが残った。利用者の Codex の別のクライアントと共有する設計で、Pleiad が `-c` で渡す会話ごとの設定と合わない【実測＋推測】
  - 採らない。stdio を保持役が持つ案のほうが欠けがなく、Claude・agy・`!` のシェルと規約が揃う（Codex だけ別の付け直しの道にならない）。`--listen` は、保持役を持たずに済む利点があるので、段階 4 以降の選択肢に留める（重なりの接続で取り逃しを避ける使い方もできる）
- **Electron を再起動しない core だけの更新を本筋にする**（(a) の「サーバーの更新は別途」）: main の機能（内蔵ブラウザー・computer use）を切らずに済むが、core の配布物に独自の署名と検証が要る（今は NSIS のインストーラーの Authenticode を electron-updater が確かめるだけ。`docs/desktop-releases.md`「正式な配布環境」）。後の段階の選択肢として残す（plan.md 段階 5）

---

## 3. 実行場所

### 3.1 何で動かすか

**公式の Node（`node.exe`）を配布物に同梱し、`pleiad-node.exe` の名前で実行場所へ写して使う**（利用者の承認済み。インストーラーは Node の分だけ大きくなる）。

- サーバーは今も `ELECTRON_RUN_AS_NODE=1` の素の Node として走っていて（`desktop/server.cjs`）、Electron の API は使っていない。main との口は `process.parentPort` だけ【確認】。これは §7.1 で名前付きパイプに替える
- 本番の依存のネイティブモジュールは koffi と node-pty で、どちらも N-API の prebuild（`electron-builder.yml` の注記、`npmRebuild: false`）【確認】。koffi は Node 24.14.0 で読み込めた【実測】。**node-pty も公式の Node 24.21.0（x64）で読め、疑似端末が動き、`npm test`（302 本・11,588 判定）が全て通った**【実測。stage1-0 §1。node-pty は配布物と同じ prebuilds だけ】。arm64 は prebuild と公式の `node.exe` が arm64・N-API であることまで確認した【確認】が、動かしていない【未確認】
- 開発とテストは素の Node（手元は 24.14.0）で `core/server.mjs` を走らせている【確認】ので、素の Node で動くことは毎日確かめられている。Electron 44.9.3 が持つ Node は 24.22.0。**同梱する Node は Electron の Node と同じメジャー版（24）にそろえる**
- 比べた案: Electron の一式（`Ply.exe` と DLL・pak）を写す。入れた版全体で約 730 MB あり、版ごとに写すのは重い。`Ply.exe` だけでは `ELECTRON_RUN_AS_NODE` でも ICU・snapshot が要るので動かない【推測】
- 名前を `Ply.exe` にしない。NSIS は PowerShell が無いと `taskkill /IM Ply.exe` で**名前で**止める【確認】。`pleiad-node.exe` は名前が違うので当たらない
- 署名: 公式の `node.exe` は OpenJS Foundation の署名のまま使う。名前を替えても署名は効く【推測】
- **CPU の種類**: インストーラーは x64 と arm64 を作る（`electron-builder.yml`）。同梱する Node は各アーキテクチャーの公式の版を、`scripts/pack-agent-browser.cjs` と同じ `afterPack` の枠で入れる（x64 の `node.exe` は 93.6 MB で、圧縮するとインストーラーは約 22 MB 増える【実測】。arm64 は元が 81.9 MB で、動かしていない。plan.md 実機の確認 16）

### 3.2 起動のしかたと、子の寿命

- **`detached: true` + `stdio: 'ignore'`（パイプを持たない）+ `windowsHide: true`** で起こす。これで `$INSTDIR` の外のプロセスは、`app.quit`・NSIS の更新（サイレント 2 回・進捗バーあり 1 回）・アンインストールのどれでも止まらなかった【実測。拍の最大の空き 0.3 秒】。`CREATE_BREAKAWAY_FROM_JOB` は要らない
- **`detached` は必須**。付けない子は、Node（libuv）が子を `KILL_ON_JOB_CLOSE` の Job に入れ、親自身もその Job に入るため、親が終わると道連れで死ぬ【実測】
- **Job を調べてから使う**: explorer 経由（ショートカット・更新後の NSIS の起動）で起こした main は、`BREAKAWAY_OK` だけを持つ Job（`KILL_ON_JOB_CLOSE` なし）に入っていて、main が終わっても子は道連れにならない【実測】。Pleiad が `KILL_ON_JOB_CLOSE` を持つ Job の中で起動された環境では、Node の detached 起動では生き残れないことがある（下の表）。そこで main は**起動時に自分の Job の制限を調べ**（koffi の `IsProcessInJob`・`QueryInformationJobObject`。`scripts/zero-downtime/runtime/job-info.cjs`）、次のとおり分ける
  - `KILL_ON_JOB_CLOSE` が無い、または `SILENT_BREAKAWAY_OK` がある → Node の detached 起動
  - `KILL_ON_JOB_CLOSE` と `BREAKAWAY_OK` だけ → koffi の `CreateProcessW` に `CREATE_BREAKAWAY_FROM_JOB` を付けて起こす（動く例: `scripts/zero-downtime/runtime/job-breakaway.mjs`）
  - `KILL_ON_JOB_CLOSE` があり抜け道が無い → 無停止の更新を使わず、今の「中断して更新」（utilityProcess）に落とす
  親（起こす側）が入っている Job の制限ごとに、子が Job を閉じた後に生き残るか【実測。`job-breakaway.mjs`】:

  | 親の Job の制限 | Node の detached 起動 | `CREATE_BREAKAWAY_FROM_JOB` 付きの `CreateProcessW` |
  |---|---|---|
  | `KILL_ON_JOB_CLOSE` のみ | 死ぬ | 失敗（`ERROR_ACCESS_DENIED`）。逃げる道が無い |
  | + `BREAKAWAY_OK` | 死ぬ | 生き残る |
  | + `SILENT_BREAKAWAY_OK` | 生き残る | 生き残る |

- **本物の `Ply.exe`（`npm run desktop:pack` の実行ファイル）を explorer 経由で起こしても、`BREAKAWAY_OK` だけの Job に入る**。更新後に NSIS が起こす新しい版の main も同じ。シェルの子・`cmd /c start` では Job に入らない【実測。stage1-0 §2】。インストール版の `Ply.exe` は main・子とも Job に入っている【確認：読み取りだけ】が、制限の中身は読めていない【推測：同じ起動経路なので同じ】。Job は起こす側が作るので、起動のたびに調べて分ける
- 子にしない理由は「生き残るため」ではない。**今の `utilityProcess` の中から detached で起こしたプロセスも更新をまたいで生き残った**【実測】。サーバーを main と別の寿命・別の版にするため、main の子にしない
- **サーバーが detached でない子を持つと、サーバーが終わる引き継ぎでその子が止まる**【実測の裏付け】。逆に保持役の子の CLI は、保持役と一緒に止まる（保持役が落ちると CLI も終わる）。引き継ぎをまたいで残したい常駐物は `detached: true` で起こすか、新しいサーバーが起こし直す。サーバーが起こす子は 1-0 で洗い出した（stage1-0 §6）。**段階 1 で `detached: true` に直すものは無い**（切り替えは作業が 0 件のときだけ）。直の子（Claude の CLI・codex・agy・外部の stdio MCP・`!` の行）は必ず死に、子が libuv で起こした孫も死ぬ。**libuv を使わない子が起こした孫は生き残る**（`agent-browser` の常駐はこれで、サーバーが終わっても生きる）【実測】
- 標準出力・標準エラーを持たないので、起動の失敗の理由は、サーバーがファイルに書く（`logs\server.log`。トークンは伏せる。1 MB を超えたら `.old` を 1 世代）。main は起動の待ちで終了を見たとき、その末尾を読んで表示する

### 3.3 置き場と形

`%LOCALAPPDATA%\agent-host-runtime\`（`agent-host` は `%LOCALAPPDATA%\agent-host-updater` と同じく package.json の `name`。ADR 0019 で変えない識別子）。

```
agent-host-runtime\
  node\<Node の版>-<sha256 の先頭>\pleiad-node.exe     … Node の版ごとに 1 つ（版をまたいで共有）
  store\<sha256>                                        … 中身のハッシュで 1 つずつ置く実体
  app\<アプリの版>-<ビルドの短いハッシュ>\               … store へのハードリンクで組んだ resources\app の写し
      core\  web\  bin\  skills\  node_modules\  package.json  manifest.json
  agent-browser\<版>\                                   … resources\agent-browser の写し（PATH に足すのはこちら）
  run\                                                  … 使用中の印（§3.5）・保持役とサーバーの名前付きパイプの名前の控え
  logs\server.log  logs\holder.log                      … サーバーと保持役の記録（それぞれ 1 MB を超えたら .old を 1 世代）
```

- **大きさ**: `resources\app` は **約 107 MB・4,017 ファイル**【実測】（配布物から Claude Code の同梱バイナリーを外した後。外す前の 345 MB・4,021 ファイルは古い値）。最初に約 120 MB（クラスター丸め）と Node。2 版目からは変わった分（直前の版との差で 0.7〜3.5 MB）【実測】
- **ハードリンクで組む**（store に置き、版ごとの木をリンクで組む）。同じボリュームの中なので張れる。ハードリンクの効きは 2 つ【実測】:
  - ディスク: 全部写すと版ごとに +118 MB、リンクなら +0.7〜3.5 MB
  - **再起動の速さ**: 書いたばかりのファイルの最初の読みは Windows Defender で 4〜5 倍遅い（4,017 ファイルで 5〜22 秒）。リンクで組んだ木は、使っている版がもう読み終えて検査も済んでいるファイルを共有するので、新しい版の初回起動が 1.2〜1.3 秒（定常と同じ）で済む。新しく写した木からの起動は 3.5〜6.1 秒
  - 時間では得をしない: 組む時間はリンクだけで 1.3〜1.8 秒（普通に 16 並列で写すと 1.1〜2.0 秒）。1 版目（store が空）は 4〜7 秒かかる。**どちらも古いサーバーが走っている間に裏で行うので、引き継ぎの断には入らない**
- **ハッシュと写しは同じ読みで行い、16 並列程度で読む**。manifest との突き合わせのために元をハッシュするとき、書いたばかりのファイルの最初の読みが遅い（逐次 21〜23 秒、16 並列 5〜6 秒）。逐次の実装にしない。ハッシュの読みと写す読みを分けると、遅い読みを二重に払う【推測】
- **写す→起こす の順を守る**。新しく写した直後に起こすと遅い（上）。更新の流れは「写す（ハードリンクで組む）→ manifest と突き合わせる → 事前の確かめ → 起こす」
- **`$INSTDIR` の前方一致に掛からないことを毎回確かめる**。NSIS は `Path.StartsWith('$INSTDIR', 大小文字を無視)` で選ぶ【確認】ので、文字列の前方一致になる。`$INSTDIR` の中・`$INSTDIR` と同じ文字列で始まる兄弟のフォルダー（例 `…\Programs\Ply` と `…\Programs\Ply-runtime`）の実行ファイルは、更新で止められた【実測】。`$INSTDIR` は利用者が選べる（`allowToChangeInstallationDirectory: true`）。実行場所が `$INSTDIR` の下か、`$INSTDIR` と同じ文字列で始まるときは、別の場所（`%LOCALAPPDATA%\jp.ply.desktop\runtime`）に移す
- 写すのは main（新しい版の main が起動したとき）。インストーラーには足さない（NSIS のスクリプトを増やさない。新規インストールと更新で同じ道を通る）。古いサーバーはその間も走っているので急がない
- **manifest は、インストールした後の木と一致していなければならない**: NSIS は x64 の配布物の中の別 CPU の `.exe`・`.dll`（node-pty の `win32-arm64` の conpty・winpty）を黙って落とす（新しい 7-Zip の ARM64 フィルターを古い展開器が読めない。2026-10-06 の実機の確認で、実行場所を組めず毎回 `utilityProcess` に落ちていた）ので、動かさない OS・CPU の prebuild は afterPack が manifest の前に外す（`scripts/pack-runtime.cjs` の `pruneOtherPrebuilds`）。インストール後の木が manifest と一致することを、リリースの確認に入れる（`docs/desktop-releases.md`「リリース判定」）。
- 写した後、`manifest.json`（ビルド時に作る、ファイルごとの SHA-256）と突き合わせる。合わなければその版の実行場所を使わず、今の「中断して更新」に落とす（§6）
- 全ユーザー向けのインストール（`Program Files`、書けるのは管理者だけ）から、利用者が書ける場所へ実行ファイルを写すことになる。同じ利用者の権限で動くプロセスが書き換えられるようになるが、権限の昇格にはならない（利用者向けのインストールでは `$INSTDIR` も元から利用者が書ける）【推測】。この点も含めて ADR 0151 で承認済み

### 3.4 NSIS に止められないこと

- 実行場所のプロセスは `$INSTDIR` の外のパスで、名前も `Ply.exe` ではない → NSIS の `FIND_PROCESS`・`KILL_PROCESS` のどちらにも掛からない。試験用アプリで、`$INSTDIR` の外・名前違いの detached のプロセスは、更新（3 回）・アンインストールで止まらず、新しい版の main からも見えた【実測】。対照として、`$INSTDIR` の中・`$INSTDIR` と同じ文字列で始まる兄弟のフォルダーのものは止められた【実測】
- 新しい版の main は、古い版のサーバー・保持役を見つけて付け直せる（PID が生き、拍が続いていることが見えた）【実測】
- 旧版のアンインストーラーも同じマクロ（その版のテンプレートのもの）で止めるが、そこでも止められなかった【実測】
- `build/installer.nsh` に `customCheckAppRunning` を定義して止める条件を Pleiad の側で固定する案は、**試験用アプリで測って、定義しないことにした**【実測。stage1-0 §5】。定義すると、`$INSTDIR` の中・前方一致のプロセスも止められなくなり、更新が約 7〜11 秒短くなる。しかし何もしない版は普通のアンインストールを壊し（起動中のアプリを止めずファイルが残る）、配布済みの版の旧アンインストーラーは既定のままなので最初の更新では効かない（旧が新の定義を使わない）。実行場所は `$INSTDIR` の外なので、止められないために定義する必要も無い。効くのは**その版のインストーラー**から（`docs/desktop-releases.md`「インストーラー画面の手元確認」と同じ理屈）。速さは別件の最適化
- 旧版のアンインストールは `$INSTDIR` のファイルを 1 つずつ rename し、掴まれていれば中止する。実行場所の写しは `$INSTDIR` のファイルを開いたままにしない（写し終えたら閉じる）。ハードリンクは `store` の中で張り、`$INSTDIR` のファイルにはリンクしない
- **CLI の起動を実行場所に寄せる**: npm のシムの CLI（`cliCommand`）・agy の relay・Codex の MCP 設定・`pleiad.cmd` の起動口は `process.execPath` と実行場所のスクリプトのパスを使うようにする。サーバーが実行場所で走れば `process.execPath` は `pleiad-node.exe` になるので、多くはそのまま直る【推測】。素の Node で走るので、`process.versions.electron` による `ELECTRON_RUN_AS_NODE=1` の付与（`agentDefinition`・`mcpSetup`）は付かなくなる【確認】。サーバーの env に `ELECTRON_RUN_AS_NODE` を残さない（`desktop/server.cjs` が付けていた分は不要になり、エージェントの子のシェルへ漏れない）
- agy の MCP の relay（`core/agy-context-relay.mjs`）は、今は動いているインストール版で `$INSTDIR` の `Ply.exe` を Node として走っている【確認：agy 1 本につき 1 本】。更新で NSIS が止めるのはこれ。サーバーが `pleiad-node.exe` で走れば、`process.execPath` を使う relay も実行場所に移る
- **外の AI に貼る設定**（`cliSetup` → `mcpSetup` の `execPath`・`CLI_SCRIPT`）は、サーバーが実行場所で走ると版ごとのパスになり、古い版の掃除で壊れる【確認】。貼る設定は版に依らない起動口を指すようにする（plan.md 1-3）
- `bin/pleiad.cmd` は `%~dp0..\..\..\Ply.exe` を名指しし、無ければ PATH の `node` に落ちる【確認】。実行場所の `app\<版>\bin` から同じ相対パスをたどると `Ply.exe` は無く、利用者の PC に Node が無ければ動かない。起動口に「実行場所の `pleiad-node.exe`」を探す道を足す（ADR 0090 の「Ply の内蔵 Node」が変わる）
- 会話のシェルの PATH には `app\<版>\bin` と `agent-browser\<版>` を足す。走り続けるシェルは古い版の PATH を持ったままなので、古い版の実行場所は使われている間は消さない（§3.5）

### 3.5 古い版の掃除

- 消してよいのは、今の版でも 1 つ前の版（戻し先。§6）でもなく、**使っているプロセスが無い**版だけ
- 使用中の判定は PID ではなく、OS がプロセスの終了で外すロックで行う（`core/data-lock.mjs` と同じ考え方）。実行場所で走るプロセス（サーバー・保持役・relay・`pleiad` CLI）は起動時に `run\<版>-<pid>.lock.db` を EXCLUSIVE で開いたままにする。掃除する側は、その版の lock を全部開けたら（= 誰も持っていない）消す【推測：形は決め打ち。段階 1 で決める】
- 会話のシェルから起動された短い `pleiad` CLI は印を持たない。古い版の `bin` を PATH に持つシェルのために、今の版・直前の版に加えてもう 1 版を残す（計 3 版。`bin\pleiad.mjs` は `core\` と `node_modules` を読むので、`bin` だけは残せない。ハードリンクなので増えるのは変わった分だけ。plan.md 1-3）
- `store` の実体は、どの `app\<版>` からもリンクされていなければ消す（ハードリンクの数が 1）。組んだ版の削除は 0.5 秒ほど【実測】
- 掃除は main の起動から少し後、裏で行う

---

## 4. 保持役（ターンの保持役）

### 4.1 役目と、やらないこと

**やること**

- 子プロセスの起動（コマンド・引数・cwd・env）・stdin への書き込み・stdin を閉じる・強制終了（Windows は木ごと）・終了コード
- 子の出力（stdout は行、stderr はかたまり）を**親の有無にかかわらず常に読み**、通番を振って記録する。親（サーバー）が受け取った番号（ack）を覚える。**読まないと CLI が止まる**: Claude Code の stdout を誰も読まないと、約 60 KB までは平気だが、約 240 KB で CLI のループが止まった（`Bash` ツールも実行されない）。読み始めれば全部戻る【実測。止まる量は 60〜240 KB の間までしか絞れていない】。数字を 300 行書かせただけのターンで約 80〜90 KB の出力があるので、長いターンはこの量を超える。保持役のイベントループが長く止まることも避ける
- **印**: サーバーがターンの始まりなどに付ける通番の位置。印より後ろの記録は残し、どの印も指さなくなった前の部分は捨てる（上限つき。超えたら `truncated` を立てる）
- **答えていない依頼の控え**: 子から親への依頼で、親がまだ答えていないもの。付け直した親へ、生の出力の続きの前に渡し直す。種類ごとに要不要が違う（実測）:
  - Claude の stream-json の `control_request`: **`mcp_message` は必須**（渡し直さないと、CLI は要求を再送せず 45 秒待っても終わらない）。**`can_use_tool` は要らない**（再 initialize の `pending_permission_requests` で足りる。渡し直しても SDK 側で 1 つにまとまるので害は無い）。**`hook_callback` は渡し直さない**（CLI が自分で、その呼び出しを打ち切るので無駄になる。§4.4）。**`elicitation` も必須**（`initialize` の応答の控えに入らず、渡し直さないと止まる。[stage2-claude.md](stage2-claude.md)）。`request_user_dialog`・`oauth_token_refresh` は Pleiad の形では CLI が出さない（種類を宣言しない・`getOAuthToken` を渡さない）。親が答え済みの `control_request` は再生で流し直さない（流すと SDK がコールバックをもう一度走らせる）【実測】
  - JSON-RPC（Codex）: 子からの `method` と `id` を持つ依頼。ログに依頼の行が残っていれば再生で足りる。控えは、ログの上限で依頼の行が落ちるのを防ぐ補強
- **札**: サーバーが子ごとに置く不透明な JSON（ターンの引数・MCP の束縛・印）。保持役は中を読まない。付け直したサーバーが読む
- **預かり物**: サーバーが置く全体の値（画面のトークン・CLI のトークン・ポート・引き継ぎの形式の版）。メモリだけに置く
- **親が手を離した後の扱い**: `detach` の後は、その親からの `write`・`end`・`kill` を子へ転送しない（旧サーバーの SDK が `close()` で stdin を閉じて kill しても、CLI と承認待ちのツールが無事なように。§4.4）。親が居ないあいだも子の stdin を閉じない。親の書き込みが行の途中で切れたら、その行は捨てる

**やらないこと**

- エージェントのプロトコルを解釈しない（行の区切り、`control_request` の `mcp_message`・`elicitation` の見分け、JSON-RPC の `id` を持つ依頼の見分け、`initialize` の見分け以外）
- **JSON-RPC の id を付け替えない**（Codex の実測で不要になった。新しいサーバーが世代つきの文字列の id を使えば、古い世代の応答を捨てるだけで取り違えない。§4.4）。**`initialize` の答えを作らない**（Codex は 2 回目の `initialize` に `Already initialized` を返すだけで、接続は無事）
- データ置き場に書かない（ADR 0115 の「1 つのプロセスだけが持つ」に触れない。記録は実行場所の `logs\`）
- HTTP を話さない（段階 4 を足すまで）
- 依存を持たない（Node の組み込みだけ。`bin/pleiad.mjs` と同じ縛り）。目安 1,000 行以内

保持役のコードがほとんど変わらないこと、変わっても世代で替えられること（§4.3）が、この設計の前提。

### 4.2 規約（v1 の素描）

名前付きパイプ（`\\.\pipe\pleiad-holder-<データ置き場と利用者の SID のハッシュ>-v<規約の版>`）。1 行 1 JSON。データ置き場ごとに 1 つ（最初のインスタンスだけがパイプを作れるようにして二重起動を防ぐ）。Windows 以外（テスト・開発用）は一時フォルダーの unix ソケットで、ファイルなので「最初のインスタンスだけ」が効かない。先に bind して、EADDRINUSE のときだけつながる持ち主を確かめ（居れば二重起動、居なければ落ちて残った古いファイルとして消して立て直す）、確かめてから消して立てる順にしない（同時に起きた保持役が先に立てたソケットを消して、2 つとも待ち受ける）。

| 向き | 種類 | 中身 |
|---|---|---|
| 親→ | `hello` | `{ secret, protocol: [min, max], role: 'server', pid, appVersion }`。`secret` は保持役が起動時に作り、`run\` の利用者だけが読めるファイルに書いたもの。合わなければ何も返さず切る。合ったうえで版が合わなければ `reject { reason: 'protocol', range, generation, appVersion, pid }` を返して切る |
| ←保持役 | `welcome` | `{ protocol, generation, range, appVersion, pid, children: [{ id, pid, alive, exitCode, signal, error, label, policy, seq, first, acked, marks, truncated, pendingRequests: [{ requestId, seq, subtype }], stderr }], stash }` |
| 親→ | `spawn` | `{ id, command, args, cwd, env, framing: 'lines', policy: 'claude-control' \| 'jsonrpc' \| 'none', label }`。`policy` は答えていない依頼の見分け方だけを決める（`claude-control` は stream-json の `control_request` を `request_id` で控え、渡し直すのは `mcp_message` と `elicitation` だけ。`jsonrpc` は `id` と `method` を持つ依頼を控える。`none` は行だけ）。起こせなければ `exit { error }` で届く |
| 親→ | `attach` | `{ id, from? }` 既存の子に付ける（`spawn` と同じく SDK の最初の stdin の書き込みより前に送る。§4.4）。`from` の既定は ack の次。答えは `attached`（子の状態）で、続けて `from` より前にある控えの渡し直し（`out` の `redelivered: true`）→ 記録の続き |
| 親→ | `write` / `end` / `kill` | `{ id, data }`（行になった分だけ子へ渡す）/ `{ id }`（stdin を閉じる）/ `{ id, tree: true }` |
| 親→ | `ack` / `mark` / `unmark` / `label` | 受け取った通番 `{ id, seq }` / 印を付ける・外す `{ id, name, seq? }`（位置の既定は次の行）/ 札を置き直す `{ id, label }` |
| 親→ | `replay` | `{ id, from, to, reqId }` 記録の一部を読み直す（組み立て直し用。§4.5）。答えは `replay { reqId, lines: [[seq, line]], done, first, last, truncated }`（1 MB ごとに分けて、最後に `done: true`） |
| 親→ | `stash` / `detach` / `release` / `shutdown` | 預かり物を置く `{ stash }`（全体の値）/ 手を離す `{ id? }`（id 無しは全部。以後はその親からの `write`・`end`・`kill`・`ack` などを子へ転送せず、記録だけを溜める。答えは `detached`）/ 終わった子の記録を捨てる `{ id }` / 子を木ごと止めて終わる |
| ←保持役 | `out` / `err` / `exit` / `overflow` | `{ id, seq, line, redelivered? }` / `{ id, chunk }` / `{ id, code, signal, error? }`（out を全部流した後に 1 回）/ `{ id, reason: 'record' \| 'line', first?, bytes? }`（記録から落ちた分・長すぎて捨てた行） |
| ←保持役 | `attached` / `detached` / `error` / `bye` | `attach` と `detach` の答え / 断った依頼 `{ id?, op, reason }` / `{ reason: 'replaced' \| 'closing' }` |

- 保持役の起動はサーバー（必要になったとき。§3.2 の detached の起動）。生きている子が 1 つも無く、親が 10 分つながっていなければ終わる。実装は `core/holder/`（plan.md 2a の実装のメモ）。親の接続は常に 1 つ（後から合格した親が勝つ）。記録は親が読まなくても溜め、親へは記録のカーソルから流す（読まない親には書き溜めない）
- 保持役が抱える子の env には秘密（OAuth のトークン・接続先のキー）が入る。パイプはメモリの中だけを通し、記録（`logs\holder.log`）には書かない
- パイプの既定の DACL は同じ利用者以外にも読みの接続を許す【推測】ので、`hello` の `secret` が合うまで何も送らない。可能なら `GetNamedPipeClientProcessId` で相手の利用者も確かめる（koffi が使える）

### 4.3 世代（保持役そのものの更新）

- 規約の版はパイプの名前に入る。サーバーは `[H-1, H]` の 2 つの版の保持役を話せるようにする
- 規約を変えた版のサーバーは、新しいターンを新しい世代（H）の保持役で起こし、古い世代（H-1）の保持役の子を付け直して動かし続ける。古い世代は子が全部終わったら消える
- 2 版続けて規約を変えると、古い世代を話せるサーバーが居なくなる。規約は「1 版に 1 回まで、変えた版の次の版では変えない」とする。守れないときは §6 の戻し道に落ちる
- id の付け替えを持たなくなった（§4.1）ので、保持役の規約は v1 のまま長く変わらない見込み

### 4.4 バックエンドごとの載せ方

**Claude**（CLI 2.1.284 と 2.1.288 で【実測】。[stage0-claude.md](stage0-claude.md)）

- SDK の `spawnClaudeCodeProcess` で、CLI の起動を保持役への `spawn` に差し替える。SDK の `query` に transport を直に渡す公開の口は無い【確認：`Options` に `transport` は無い】
- 返す `SpawnedProcess` は、stdin/stdout を保持役の `write`/`out` につないだ偽物。SDK の「stdin を閉じて 2 秒待って kill」は、`end` と `kill` に写す
- **保持役への `spawn` / `attach` は、SDK が最初の stdin を書く前に送る**。SDK は `spawnClaudeCodeProcess` の戻り値を受け取るとすぐ `initialize` を書く。後から送ると、その `initialize` は保持役で（子がまだ無いため）捨てられ、CLI は hooks・SDK MCP を知らないまま始まる（ターンは動くが hooks・MCP が効かない）【実測】
- **付け直し**: 新しいサーバーは同じ CLI に対してもう一度 `query` を作る（`spawnClaudeCodeProcess` が既存の子につないだ偽物を返す。prompt は空の入力の流れ）。SDK は `initialize` を送る
  - **承認待ちの最中でも通る**: `Bash` の承認を待たせたまま親を殺し、同じ stdio に新しい `query` を作ると、新しい `canUseTool` が付け直しの約 70〜90 ms 後に、**元と同じ `requestId`・`toolUseID`** で呼ばれ、許可を返すとツールが実行されてターンが `result` まで完了した。CLI の `initialize` の応答の `pending_permission_requests` を SDK が `canUseTool` へ回し直す。親が居ない時間が 0.3 秒・60 秒・300 秒でも同じ【実測】
  - **hooks と in-process の SDK MCP も効く**: 2 回目の `initialize` で SDK が `sdkMcpServers` と hooks の id を送り直し、CLI はそれを使う。ターンの合間に付け直して新しい指示を送ると、付け直した親の `host.ping` のハンドラーが呼ばれ、hooks のコールバックも発火した【実測】
  - **取りこぼし・重複**: 新しい親へ流す位置を「殺した親が**アプリのループで処理し終えた**最後の行の次」にすると、取りこぼし 0・重複 0（応答の生成 3 回・ツール 2 回）【実測】。記録された位置が遅れると重複は出るが取りこぼしは出ないので、再生は uuid で冪等にする。付け直した `query` は、ターンの途中（`message_start` の無い `content_block_delta` など）から流れてきた `stream_event` もそのまま処理して完了した。アプリの正規化がターンの頭から要るなら、ターンの印から流し直す。途中で殺されて SDK の内部に残る行が出うる場合の差は測れていない【推測】
  - 付け直した `query` で `interrupt()` が効く【実測】
- **旧サーバーが手を離す順序**: 旧サーバーが SDK の `query` を `close()`（または中断）すると、SDK が stdin を閉じて kill する。そのまま保持役へ転送すると CLI が終わり、承認待ちのツールは実行されずにターンが終わる【実測：対照】。**先に保持役へ `detach` し、偽の `SpawnedProcess` が `write`・`end`・`kill` を転送しなくなってから `query` を閉じる**。そうすると CLI は無事で、新しい親が承認を受け取れた【実測】
- **呼び出しの最中の付け直し**:
  - in-process MCP（`mcp_message`）の最中: 保持役が答えていない `control_request` を新しい親へ渡し直すと、新しい親のハンドラーが呼ばれてターンが完了した。**渡し直さないと CLI は再送せず止まったまま**。旧サーバーのハンドラーが終わる前に捨てると、同じ呼び出しが新しい親でもう一度走る（少なくとも 1 回の配送）。`host` の `fork` などは 2 度走ると困る【呼び出しが 2 度走ることまで実測、`fork` では試していない】
  - hooks のコールバックの最中: 保持役が控えを渡し直しても渡さなくても、CLI が自分で打ち切り、**そのツール呼び出しは実行されない**（`PreToolUse:Bash hook error: The SDK host reconnected before its PreToolUse hook answered, so this tool call was not executed. No one denied it; retry the same tool call.`）。モデルが同じ呼び出しをやり直し、ターンは完了した【実測】
  - したがって**引き継ぎの前に、走っている hooks のコールバックと `mcp_message` のハンドラーが終わるのを（上限つきで）待つ**。待てない分は、hooks は 1 回のツール失敗（モデルのやり直し）、`mcp_message` は二重実行になりうる
- **`host` MCP は in-process のままにする**（下書きの「HTTP に移す」は取り下げ）。付け直しの 2 回目の `initialize` で in-process の MCP も hooks も効き、in-process の `mcp_message` はサーバーが居ない間も CLI が答えを待つ（渡し直せば完了する）【実測】。HTTP に移すと、つながらない間の呼び出しは**待たずに即失敗する**ので、段階 4（待ち受けを保持役が持ち、新しいサーバーが立つまで接続を待たせる）を足さない限り今より悪くなる。残る二重実行の可能性は、上の「ハンドラーが終わるのを待つ」で抑える
- **`canUseTool` は外に出さない**: SDK には承認を MCP のツールへ回す `permissionPromptToolName` もある（`canUseTool` とは併用できない）【確認】。しかし承認は人が答えるまで長く待つ HTTP の呼び出しになり、サーバーの入れ替えで切れる。stdio の `can_use_tool` は再 initialize で回し直せる【実測】ので、こちらに残す
- **CLI が止まらないこと**: 親が居ない間、保持役が stdin を閉じず stdout を読み続ける限り、CLI は生き続ける（承認待ちのまま 300 秒でも、付け直して許可すると続いた）【実測】
- CLI の版: 付け直しを確かめたのは 2.1.284・2.1.288。`pending_permission_requests` が必ず返るのは v2.1.268 から【確認：型定義の文】。付け直しに使える CLI の版は、`core/backend-shape-diagnostics.mjs` の `VERIFIED`（形の変化の診断用。今は 2.1.283）とは別の一覧で持ち（段階 2）、外れる版（2.1.268 未満）のターンは保持役に載せない（§6 の戻し道）
- **サブエージェント（前面・裏・その中の承認）・裏のコマンド・途中送信・圧縮（`PreCompact` の最中も）・`elicitation`（控えの渡し直しで）・Pleiad の実際のオプション・互換の接続先・npm の `claude.cmd`・CLI の子の stdio MCP・数 MB の出力の最中も付け直せる**【実測。[stage2-claude.md](stage2-claude.md)】。付け直し直後に CLI は裏の作業の全量を `background_tasks_changed` で出し直す。旧い親が流し込んだ途中送信も同じ uuid の replay が新しい親に届き、`cancelQueued` で取り消せる。2 回目の `initialize` の systemPrompt・skills は CLI が使わない（最初の値のまま）

**Codex**（codex-cli 0.160.0。偽のモデル提供元で【実測】。[stage0-codex-agy.md](stage0-codex-agy.md)）

- 共有の `codex app-server` 1 本を保持役の子にする（`policy: 'jsonrpc'`）
- **付け直しに握手は要らない**: 新しいクライアントは `initialize` も `thread/resume` も送らずに続きの通知を受け取り、続けて `turn/start` も通せた（本文の差分 16 個で重複も欠けも無い）。`initialize` を送っても `{"code":-32600,"message":"Already initialized"}` が返るだけで接続は無事。→ 付け直した `CodexRpc` は `initialize` を送らないか、送って `Already initialized` を成功とみなす
- **承認の依頼**（`item/commandExecution/requestApproval`）: (a) 古い親に届いて答えないまま入れ替えた、(b) 入れ替えの間に来た、のどちらも、再生された依頼に新しい親が答えるとコマンドが走ってターンが `completed`。古い親が同じ id に答えても無害（app-server が警告を出すだけ）
- **id**: 子から親への依頼の id（codex が付ける）と、親から子への依頼の id（クライアントが付ける）は別の空間。codex は**文字列の id をそのまま返す**ので、新しいサーバーが世代つきの文字列の id（例 `g2-17`）を使い、古い世代の応答は捨てる。保持役は id を付け替えない
- 付け直した `CodexRpc` が持つ内部の対応表（`parents`・`agents` = サブエージェントの親子、`claims`・`held`）は、再生がターンの印より前を含まないと欠ける。親子は `thread/read` / `thread/list` の `parentThreadId` から引き直せる（`codex.mjs` がすでに使っている）ので、再生の始点は「ターンの始まりの印」で足りる【実測。サブエージェントが走っている最中の付け直しも通った。0.160.0 は子の `thread/started` を出さず、親の `collabAgentToolCall` の `receiverThreadIds` が子の id を運ぶ。[stage3-codex.md](stage3-codex.md)】
- 承認を何分も待たせたときの app-server 側の打ち切りは無い【実測。240 秒（その間に 2 回入れ替え）。[stage3-codex.md](stage3-codex.md)】。本物のモデルでの付け直しも通った【実測】
- **実装した形**（段階 3。[plan.md](plan.md)「Codex の実装のメモ」）: 子は 1 つ（`codex-app-server`）。ターンごとの印（mark `turn:<threadId>`）と札（子の label の `turns`）。記録は全部のスレッドが混ざるので、再生はスレッドごとに（子孫のサブエージェントを含めて）選ぶ。依頼の id は `<pid>.<起動の時刻>.<連番>`。ロード済みのスレッドの設定の控えと裏の端末を数えているスレッドも札に置く（裏の端末は `thread/backgroundTerminals/list` から作り直す）

**Antigravity（agy）**（agy 1.2.17 を本物の LLM で【実測】）

- 1 会話 1 プロセスの stdio をそのまま保持役の子にする（`policy: 'none'`。行だけ）
- **付け直しに握手は要らない**: stdin は 1 行 1 JSON を書くだけで、起動しただけでは何も出ない（最初のターンの前に `init` が 1 回出る）。相手が数秒いなくなっても、入れ替わっても、ターンは続く。ターンの最中に次の 1 行を書くと直列に回る。→ 付け直しに要るのは、stdin を開けたまま stdout の続きを読むことだけ。会話の ID・モデルは、保持役のログの再生で分かる
- **ターンの印を最初の行（ターンの始まり）に付ける**（`init` の再生用）。1 行ごとに `result` が 1 つなので、印より後ろの `result` の数で、終わったターンと走っているターンを数えられる
- 起動時の孤児の掃除（`antigravity-pids.mjs`）と終了時の片付けは、保持役が持つ子を対象から外す
- relay（Pleiad の MCP を stdio で agy に見せる橋。`antigravity-context.mjs`）は実行場所の `pleiad-node.exe` で走るようになる。口が閉じたままだとツールのエラー（`Cannot reach Pleiad context: fetch failed`）になり再試行は無い。relay の側に数秒の再試行を足す（呼び出しの待ちは 3 分なので、数秒の再試行で時間切れにならない）【推測。動かしていない】

**`!` の行**: `core/shell-runs.mjs` のシェルも保持役の子にする（`policy: 'none'`）。

**載せないもの**: Claude のログイン（`claude-login.mjs` の疑似端末。人が操作する短いもの）・タイトルの生成やモデルの一覧の短い `query`（`claude.mjs`）。引き継ぎはこれらの終わりを短く待ち、待てなければ取り消す。

### 4.5 付け直したターンを組み立て直す（再生）

新しいサーバーは、走っているターンの途中の状態（ツールの行・承認・裏の作業・途中送信・実行中のスナップショット）を、**保持役の記録を印から読み直し、今と同じ正規化の道に流して作る**。直列化の形を版をまたいで保たなくて済む。

1. 子ごとの札から、会話の id・バックエンド・ターンの引数・MCP の束縛・印の位置を読む
2. 印から ack までの記録を `replay` で読み、バックエンドの正規化（`claude-normalize.mjs` など）に流す。出来事は画面へは出さず、実行中のスナップショット（画面がつなぎ直したときに配るもの）にだけ積む
3. **ack は「アプリのループで処理し終えた最後の行」**（SDK の stdout へ流しただけの位置にしない）。ack より後ろ（古いサーバーが受け取る前の分・引き継ぎの間の分）は普通のターンと同じく画面へ流す。再生は uuid で冪等にし、重なって届いても二重に積まない
4. 子が引き継ぎの間に終わっていたら（`exit` が記録にある）、そのまま `endTurn` の道で締める。ツールが親の居ない間に終わっても、`tool_result` と `result` は保持役に溜まり、付け直しで受け取れる【実測】
5. 記録が上限で切れていた（`truncated`）ターンは、表示の途中の状態だけをあきらめ（履歴はエージェントの記録から読み直す）、ターンは動かし続ける

このために `core/server.mjs` の `runTurnInternal` を「始める（準備・起動）」と「動かす（出来事を受けて締める）」に分け、「動かす」を付け直しからも呼べるようにする。バックエンドの `runTurn` にも「付け直す」入口（`adoptTurn`）を足す。これが段階 2 の一番大きい仕事。

### 4.6 MCP の口の束縛

- 会話ごとの MCP の口（`mcp-bridge.mjs`）のトークンは、ターンを始めるときに札へ入れる（トークンそのものと束縛。保持役のメモリだけ）
- 新しいサーバーは札から `bindings` を戻し、同じポートで待ち受ける。CLI に渡した URL（`origin + path`）が同じなら、CLI からは何も変わらない。HTTP の口は状態を持たない（MCP のセッション id を使わない。`initialize` もトークンだけで答える）【確認】。Codex は、口が閉じて開き直した後、再 `initialize` なしの `tools/call` だけで成功した【実測】
- **外部の stdio MCP（利用者が設定した MCP）は、サーバーの直の子として起こされる**（`core/context-bridge.mjs` が MCP SDK の `StdioClientTransport` で起こす。detached でない）【確認。動いているサーバーの下に実在】。束縛を札から戻しても、その先の stdio の子は旧サーバーと一緒に止まり、状態（`node_repl` など）は戻らない。**段階 2 は起こし直す**（素の Node の MCP で約 0.2 秒。状態は消えるので、起こし直した後の最初の結果にその旨を添える）。保持役の子にすると TS の MCP SDK のサーバーは 2 回目の `initialize` を受けて状態も残るが、旧いクライアントの id への応答が新しいクライアントの同じ id にぶつかるので、世代つきの id が揃う段階 3 で【実測。[stage2-claude.md](stage2-claude.md)】（plan.md R15）
- **口が数秒つながらないときの 3 つの CLI の振る舞い**【実測】:

| CLI | 口が閉じている間の呼び出し | MCP ごと外されるか |
|---|---|---|
| Claude Code | **待たずに即座にツールのエラー**（`ECONNREFUSED`・呼び出しの最中の切断は `ECONNRESET`）。再試行もしない。開き直した後の次の呼び出しは成功（1・3・10・20 秒で同じ）。接続は受けて応答だけを止めると、30 秒まで待って成功する | 外されない（状態は `connected` のまま） |
| Codex | 約 2 秒までの不通は透過に再試行して成功。3 秒閉じると約 2 秒で失敗（モデルへの結果に入り、ターンは完了）。呼び出しの最中に切ると約 1 秒後に失敗 | 外されない |
| agy（relay 経由） | 即座にツールのエラー（再試行なし） | 外されない |

  - **新しいスレッドを始めるとき（Codex の `thread/start`）に口が閉じていると致命的**: `required: true`（Pleiad の `ply_agents`・`ply_context`）なら `thread/start` が約 7.5 秒後にエラー。`required: false` ならツールが空のまま、口を開けてもそのスレッドには一生渡らない。agy は、口が閉じたまま起こした最初のターンだけツールが無い（次のターンでは使える）【実測】
- したがって次を守る（段階 2 の引き継ぎ）:
  - **旧サーバーは口を閉じる前に、処理中の HTTP の呼び出しが終わるのを（目安 5 秒の上限で）待つ**。長く待つもの（`ply_task_wait`・computer のロック待ち）は「今は変化なし・もう一度呼んで」で返す
  - **新しいサーバーは、HTTP の口（同じポート・同じトークン）を待ち受けてから、スレッドを始める・ターンを始める**（新しい作業の開始は、切り替えが済むまで送信待ちに回す）
  - **口が閉じる間は約 2 秒以内**に抑える（Codex が透過に再試行する上限）。実データの引き継ぎで 1.0〜1.6 秒（§5.1。モジュールを先に読めば 0.8〜1.1 秒の見込み）なので、Codex は収まる。**Claude と agy は、その間に当たった呼び出し 1 回が失敗しうる**（モデルが読んでやり直す）。これを受け入れるか、待ち受けを保持役が持つ段階 4 を足すかは、段階 2 の実機で数えて決める（段階 4 の根拠が出た）

---

## 5. 切り替えの順序とデータの排他

### 5.1 更新の流れ（推奨の形が全部入った後）

| # | main | サーバー（旧 S1 / 新 S2） | 保持役・CLI |
|---|---|---|---|
| 0 | 更新の準備ができた | S1 が走っている | 走っている |
| 1 | 「再起動して更新」。下書きの保存を確かめる（今と同じ）。**作業を中断しない・ロックしない** | S1 に `main-leaving { reason: 'update' }`。S1 は main に頼むものの扱いを §7.2 の表に切り替える。`hostAway` の猶予は数えない | 変わらない |
| 2 | `quitAndInstall`。main が終わる | S1 は走り続ける。スマホからの承認・送信も通る | 変わらない |
| 3 | NSIS が `$INSTDIR` のプロセスだけを止め、入れ替える（本物で 55〜70 秒） | S1 は止められない（§3.4） | 止められない |
| 4 | 新しい main が起動し、`control.json` と `run\` から S1 を見つけてパイプで付け直す（§7.1 の握手） | S1 が main の機能を戻す（resident・wake・止めていた依頼） | — |
| 5 | 新しい版の中身を実行場所へ**ハードリンクで組み**（ハッシュと写しは同じ読み・16 並列）、`manifest.json` と突き合わせる | — | — |
| 6 | **事前の確かめ**: `pleiad-node.exe app\<新>\core\handover-check.mjs` を走らせ、データの形式番号・保持役の規約・引き継ぎの形式・main との口の版の範囲を読む。どれかが合わなければ §6 の戻し道 | — | — |
| 7 | S2 を `--handover` で起動（モジュールの読み込みまで進めて、データ置き場のロックを待つ） | S2: ロックを待つ（下の 5.2） | — |
| 8 | S1 に `handover` | S1: 新しいターンの開始を送信待ちに回す → 短い処理（切り替え・分岐・設定の書き込み・ログイン・添付の取り込み）を上限つきで待つ → 走っている hooks のコールバック・`mcp_message` のハンドラー・処理中の HTTP の MCP を上限つき（目安 5 秒）で待つ → 予定のタイマーを止める → `store.flushNow` → 保持役に `ack` と `detach`（**`detach` が済んでから SDK の `query` を閉じる**。§4.4）→ DB を閉じ、データ置き場のロックを明示して放す → 終わる | 記録だけを溜める |
| 9 | — | S2: ロックを取る → 形式を確かめる（移行はしない。6 で確かめ済み）→ 保持役に `hello`、札と預かり物を読む → 同じトークン・同じポートで待ち受け → ターンを付け直す（§4.5）→ `ready` | 新しい世代の親に、控えの依頼と続きを渡す |
| 10 | 窓を開く（S2 の `origin`） | 画面は新しい `web/` を読む | — |

- **起動の重さ**【実測。実データの写し 916 MB・会話 1,438 件。fake のバックエンド】: 起動 → 待ち受け **1.17〜1.27 秒**、→ 最初の WS の `ready` **1.20〜1.31 秒**、→ 最初の `listSessions`（1,440 会話）の応答まで +0.4 秒。内訳は、起動 → ロック 0.46〜0.51 秒（モジュールの読み込み）、ロック → 待ち受け 0.71〜0.76 秒。**モジュールの読み込み（0.46 秒）をロック待ちの前に終えておけば、旧が放してから `ready` まで約 0.75 秒**の見込み【推測：先に読み込んでロックを待つ起動は `core/` にまだ無い】。起動の裏でエージェントの一覧を引く分（`warmModels`）は含まない【未確認】。**新しく写した直後に起こすと 3.5〜6.1 秒**（§3.3。「写す→起こす」の順で避ける）
- **画面から見た断**【実測。旧を強制終了 → 直後に新を同じポート・同じ置き場で起動、3 回】: 約 1.2 秒（`ready`）〜1.6 秒（一覧が出るまで）。同じポートに 3/3 回張り直せた（「使えない」の案内は出ない）。この測りは強制終了ベースで、旧が静かに放す本来の形ではない【未確認】
- **Claude Agent SDK の先取り**（[ADR 0208](../adr/0208-fetch-claude-agent-sdk-at-runtime.md)）: 配布物は SDK を同梱せず、データ置き場の `claude-sdk\<版>\` から読む。6 の事前の確かめが通ったら、main が同じ実行場所の `pleiad-node.exe` で新しい版の `core\claude-sdk-fetch.mjs` を走らせ、新しい版が固定した SDK を取っておく（同意が無ければ取らない。前の版から Claude を使っていた人は同意済みとみなして取る。上限 5 分。`desktop/switch.cjs` の `runClaudeSdkFetch`）。触るのは新しい版のフォルダーだけで、展開は一時フォルダーから名前を替えて置くので、S1 が読んでいる版とはぶつからない。取れないまま保持役に載った Claude のターンがあれば、7 からの引き継ぎをせず、作業が終わるのを待つ切り替えに戻る（S2 は SDK 無しで Claude のターンを付け直さない）。待つ間も 60 秒ごとに取り直す。古い版は S2 の起動から 5 分後に掃除する（今の版と直前に使った版を残す）
- S1 と S2 が同時にデータ置き場を開く瞬間は無い。S2 は 7 でロックを待つだけで、DB を開くのはロックを取った後
- **実装（段階 2 の 2d。[plan.md](plan.md) 2d）**: ステップ 7〜9 は `core/handover.mjs`（S1 の順序）・`core/server.mjs`（`--handover` の S2）・`desktop/switch.cjs`（main）。S1 は 8 で、新しい作業を送信待ちに回し（`hold`）、引き継げない作業があれば待たずに断り、短い処理を 8 秒まで・処理中の MCP/hooks を 5 秒まで（過ぎても進む。待ち切れた数を残す）待ち、タイマーを止め、札を取って `detach` し、預かり物（トークン・CLI のトークン・ポート）を置き、DB を全部閉じてロックを放して終わる。S2 は使用中の印を付けてからロックを待ち（main はその印を見てから S1 に頼む）、取れたら預かり物の同じトークン・ポートで待ち受け、札から付け直す。測った間（S1 がロックを放してから S2 の待ち受けまで）は小さい置き場で約 0.1 秒、会話 1,438 件・DB 420 MB の合成の置き場で 0.77 秒（`ready` まで 0.84 秒）
- 引き継ぎの間に動かないもの: S1 が止めてから S2 が付け直すまで、CLI の出力は保持役に溜まり、CLI からの依頼（承認・hooks・`host`）は答えを待つ。待つのは 1〜1.6 秒なので、CLI の側の時間切れには届かない（承認は 300 秒待っても続いた【実測】）

### 5.2 データ置き場のロック

- `acquireDataLock`（`core/data-lock.mjs`）に「上限まで待つ」選び方を足す（今は取れなければすぐ例外）。引き継ぎのときだけ使う（目安 30 秒）
- **待ちの刻みは数十 ms でよい**: 旧が放してから新が取るまで最大 18.6 ms（90 回）。どの放し方（`release()`・`process.exit`・強制終了）でもほぼ同じで、OS がプロセスの終了と同時にロックを外す。遅れは待ち手の試行の間隔による（取れない試行 1 回が約 30 ms。SQLite の Windows のロックのリトライ）【実測】
- S1 は終わる前に明示してロックを放す（プロセスの終了でも外れるが、終了の後片付けの時間を待たずに済む）
- `control.json` は自分の PID のものだけを消す作り（`core/control-file.mjs`）なので、S1 の終了が S2 の書いたものを消すことは無い【確認】

### 5.3 データ形式の移行

- **形式番号（`data-schema.json`）が変わる版は、引き継ぎをしない**（利用者の承認済み）。移行は「全書き込みを止めて、写しで移行して確かめる」（`docs/desktop-releases.md`「適用とデータ保護」）なので、ターンを走らせたまま移行しない。実データでは移行の写しも大きい（データ置き場は 900 MB 台）ので、利用者が選ばない時に走らせない。その版は今の「中断して更新」に落ちる（§6）。この判断は事前の確かめ（ステップ 6）で行い、S1 を止める前に決まる
- 形式番号を上げない値の直し（`usage-migrations.mjs` のような一度だけの直し）は、S2 の起動の後に裏で走るので今のままでよい

### 5.4 起動時の後片付けとぶつかる所

付け直しのある起動（`--handover`、または保持役に子が残っている起動）では、次を対象から外す。

- `store.recoverInterruptedTurns`: `turnStartedAt` が残っている会話を `restart` の中断にする。保持役が持つターンの会話は除く
- `agentTasks.restored`: 走っていた委譲タスクを中断にする。付け直したターンの子の会話のタスクは除く
- agy の孤児の掃除（`antigravity-pids.mjs`）
- 送信待ちの「配送中は結果不明として戻す」（`docs/design.md`「作業中のメッセージ送信」）: 付け直した途中送信の控え（Claude の `pendingSteers`）は札から戻す

---

## 6. 失敗したとき

戻し道は 2 つを持ち続ける。

- **中断して更新**（ADR 0036 の今の道）: 引き継ぎを始める前に、合わないと分かったとき
- **前の版のサーバーで動かし続ける**: 引き継ぎを始めた後に、新しいサーバーが立たなかったとき

| 起きたこと | 気づき方 | どうするか |
|---|---|---|
| 事前の確かめで合わない（形式番号が変わる・保持役の規約が範囲の外・引き継ぎの形式が範囲の外・実行場所の写しが manifest と合わない・main の Job に抜け道が無い） | ステップ 6（Job は main の起動時） | 引き継ぎをしない。新しい main は S1（古い版）につないだまま、画面に「この更新は作業を中断します」と ADR 0036 のダイアログ（あとで／中断して更新）を出す。中断して更新なら、全部を `update` で中断 → S1 を止める → S2 を普通に起動。「あとで」なら S1 のまま動かし続け、勝手には切り替えない |
| 保持役に載っていないターンがある（古い CLI の版・段階 3 の前の Codex/agy） | ステップ 6（S1 が数える） | 上と同じダイアログで「N 件は中断されます」と出す。あるいは、それらが終わるまで S1 を残す（切り替えの先送り。§6.1） |
| S2 が立たない・付け直しで例外・時間切れ（30 秒） | main が S2 の `ready` を待つ（**実装済み**: S2 を起こせない → S1 のまま／S1 が渡して終わったのに S2 が立たない → 前の版を `--handover` で起こし直す。`desktop/switch.cjs` の `handover`） | S2 を止め、`app\<旧>` の S1 を `--handover` でもう一度起動する（S1 は自分が書いた札を読める）。窓に「新しい版のサーバーを起動できなかったので、前の版で動いています」。新しい main と古いサーバーの組み合わせは、main との口を 1 版ぶん後ろまで話せることで成り立たせる（§7.1）。報告用に S2 の起動の記録を残す |
| S1 にも戻れない | 同上 | 保持役の子を全部止め、普通に起動する。止まったターンは起動時に `restart` の中断になる（今の ADR 0036 の回復）。「再開」で続けられる |
| 1 つのターンだけ付け直せない（記録の形が読めない・札が壊れている） | S2 の付け直し（**実装済み**: S1 が `detach` できないターンは S1 がそのターンだけ `update` で中断する。S2 が読めないターンは今までの `restart` の中断） | そのターンの子だけを止め、`interrupted: { reason: 'update' }` を書く。ほかのターンは続ける |
| 保持役が落ちた | 子の stdio が閉じ、CLI が終わる【実測の裏付け：子は親と一緒に止まる】。S が保持役のパイプの切断を見る | 走っていたターンは全部終わる。`restart` の中断として残る（今の「落ちた」の扱いと同じ）。保持役を立て直す。保持役の記録に理由を残す |
| サーバーが落ちた（更新と関係なく） | main がパイプの切断を見る | 同じ版のサーバーを同じトークン・ポートで起動し直し（`desktop/server-restart.cjs`。段階 2 の 2e で実装済み）、窓を 1 回だけ読み直す。短い間（1 分に 3 回）に落ち続けるときと起こし直しに失敗したときは、致命的なダイアログ。保持役に載ったターンの付け直しは 2b 以降（`afterRestart` の口）で、**今は落ちるとターンが全部止まるが、保持役があれば続く**（段階 2 の副産物） |
| 新しい main が戻ってこない（インストールの失敗・利用者が起動しない・アンインストール） | S1 は `main-leaving` から待つ | S1 は走り続ける（アンインストールしても止められない【実測】）。次に Pleiad を起動したとき（どの版でも）、その main が S1 に付け直す。main が来ないまま作業が 0 件で 30 分たったら、S1 は普通に終わる |
| main が落ちた（`main-leaving` 無しの切断） | S1 がパイプの切断を見る | S1 は走り続ける（今は main が落ちるとサーバーも終わる）。次に Pleiad を起動したとき付け直す。作業が 0 件で 3 分たったら終わる |
| main とサーバーの口の版が合わない | §7.1 の握手 | 握手の最小の部分（版を聞く・引き継ぎを頼む・終わらせる）だけは版をまたいで変えない。それ以外が合わなければ上の「事前の確かめで合わない」と同じ |

- 利用者が引き継ぎを止める逃げ道: 設定ではなく環境変数（`AGENT_HOST_HANDOVER=off`）。付ければ今の「中断して更新」だけを使う（main は今のとおり `utilityProcess` でサーバーを起こし、実行場所も名前付きパイプも使わない）。開発（`npm run desktop`）も同じ今の形
- この機能を持たない版から最初にこの機能を持つ版への更新は、古い版の main が行うので、今の「中断して更新」になる。無停止になるのはその次の更新から

### 6.1 切り替えの先送り（段階 1 の形・戻し道の 1 つ）

保持役に載っていないターンがある間は S1 を残し、新しい main は S1 の画面を出す。作業が 0 件になったら S2 へ切り替え、窓を読み直す（下書きは保存済み）。

- **ADR 0036 が退けた「終わったら更新する」予約とは別のものとして、利用者が承認した**（2026-10-06）。ADR 0036 が退けたのは、作業が終わった直後に**アプリが勝手に再起動する**こと。先送りは、利用者が更新を選んだ後の切り替えで、アプリの再起動を起こさず、止まるものは無く、変わるのは画面の読み直しだけ
- 窓には「新しい版への切り替えを待っています」と「今すぐ中断して切り替える」を出す。形は承認済み（2026-10-06）: 脇の下の更新の知らせの中で一覧を開く（[design-system.md「切り替えを待つ表示」](../design-system.md)、[ADR 0152](../adr/0152-switch-wait-display.md)）
- 形式番号が変わる版（§5.3）は、先送りの自動の切り替えをせず、「あとで／中断して更新」のダイアログに落とす
- 段階 1 では全部のターンが「載っていないターン」になる。段階 3 の後も、古い CLI の版のターンなどの戻し道として残る

**段階 1 の実装（`desktop/switch.cjs`。plan.md 1-6）**

- 「再起動して更新」（`AGENT_HOST_HANDOVER=on`）: main は作業を中断せず、`update-lock` も取らない。`main-leaving { reason: 'update' }` を送り、electron-updater がインストーラーを起こした直後（`before-quit-for-update`）につながりだけを切って終わる。サーバーは走り続ける（`main-leaving` の後は、作業が 0 件のまま 30 分で終わる見張り。`core/orphan-guard.mjs`）。画面の更新の確認は止まる作業を並べず、中断もしない（更新の状態の `handover`）
- 新しい main は S1 に付け直し、S1 の `ready` の `appVersion`・`build`（ビルドの短いハッシュ）を、自分の `resources\app\manifest.json` と比べる。ビルドが両方分かればビルドで、分からなければ版で比べ、違えば切り替えを始める
- 流れ: 新しい版の実行場所を組む（`chooseServer` が裏で組み始めたもの）・Job が起こすのを許すか → 事前の確かめ（`core/handover-check.mjs` を新しい版の `pleiad-node.exe` で走らせる。データ置き場の `data-schema.json` を読むだけで DB・ロックを開かない）→ 待ち（2 秒おきに `running`）→ 0 件で `update-lock`、取れたらもう一度数える（数えてから取るまでに始まった作業があれば放して待ちに戻る）→ S1 に `shutdown`、プロセスが終わるのを待つ（30 秒。終わらなければ付け直して待ちに戻る）→ 同じトークン・ポートで S2 を起こし、同じ `ServerLink` につなぐ → 窓を読み直す（ポートが変わっていれば `window-trust` の origin も替える）
- 短い処理が終わらず断られた（`busy`）ときは、`handover` の返りの `reason`・`detail`・`sessions`（待たせている会話）を `snapshot.blocked` に載せ、待ちの表示は「作業 0 件」でなく待っているものを出す（`{ reason, sessions }` を `onState` の `waiting.blocked` へ。`desktop/switch-screen.cjs`・`web/switch-notice.mjs`）。完了通知で始まったターンは、通知を受け取った後は短い処理に数えない（`core/server.mjs` の `handoverSettled`）
- 待つ作業: `running` の `count`（ターン・承認待ち・走っているサブエージェント・委譲タスク）。**`!` の行と、ターンの外に残っている裏の作業（Codex の裏の端末など）は「切り替えで止まるもの」で、待たない**（利用者の決定。2026-10-06）。作業が 0 件になったとき残っていれば、自動では切り替えず「あとで／止めて切り替え」を聞く（`asking`。あとでは止まるものが無くなるまで見続け、無くなれば切り替わる）。外部の stdio MCP は数えない（作業ではなく、0 件なら呼び出しの途中は無い。S2 が次の呼び出しで起こし直す）。送信予定も数えない（S2 が予定を戻す。断の数秒は送信予定の遅れの猶予 1 時間に収まる。発火して送信待ちに入った分は `update-lock` が断る）
- 合わない版（形式番号が変わる・main との口の版の範囲の外・確かめが走らない・実行場所を組めない・Job が起こすのを許さない）: 「あとで／中断して更新」（作業が無ければ「今すぐ更新」）。「あとで」は S1 のまま動かし、次に main を起動したときにもう一度聞く。中断して更新は、全部を `update` で中断してから同じ流れで替える。実行場所で起こせない理由（実行場所・Job・口の版）のときは、S1 を止めて main を起動し直す（起動で今の `utilityProcess` に落ちる）
- S2 が立たない（起動の途中で終わる・時間切れ）: 起こした S2 を止め、S1 の版（`ready` の `runtimeKey` の実行場所）で同じトークン・ポートで起こし直し、窓に「新しい版のサーバーを起動できなかったので、前の版で動いています」。それも駄目なら「起動し直してください」で終わる
- 「今すぐ中断して切り替える」（`interruptNow`。聞いているときの「止めて切り替え」も同じ）: 全部を `update` で中断し、`count` が 0 になれば `!` の行・裏の作業が残っていても替える（S1 と一緒に止まる。止めたものは `stopped` に残り、切り替わった後の知らせに出る）
- 切り替えに失敗して前の版で動いている（`done` の `previous`）とき、`retry()` で準備からやり直せる（作業が残っていればまた待つ）
- S1 を手放している間（S1 の終わりから読み直しまで）は、main の「サーバーが終了しました」を出さない
- 画面: `index.html` の `pleiad-build` に、配ったサーバーが「<版>+<ビルド>」を埋める。WS の `ready` の `version`・`build` と違えば、入力欄の下書きを保存して 1 回だけ読み直す（sessionStorage の印で繰り返さない。`pleiad-build` が空の画面＝アプリに同梱した画面は読み直さない）
- 待ちの表示の口: `onState(snapshot)`（`{ state, waiting: { count, items: [{ kind: turn|permission|subagent|task, sessionId, … }], stoppers: [{ kind: shell|background, sessionId, label, … }] }, since, interrupt, interruptFailed, stopped, blockedBy, reason, error, previous, at }`）・`answer('now' | 'later')`・`interruptNow()`・`retry()`
- **待ちの表示を描くのは、その版の `web/` の画面**。待っている間の窓は S1（古い版のサーバー）が配る古い版の画面なので、表示のコードは「N 版の `web/`」に入り、N → N+1 の更新のときに N+1 の main が状態を渡す（`desktop/switch-screen.cjs`）。main → 画面の受け渡しは**版つき**で、preload の `plyDesktop.switch`（版 1）。画面は読める版だけを読み、新しい main は 1 版ぶん前の口と形を残す（口の形を変えるときは `switch2` を足す）。画面は読み込むとき `hello` で使う版を知らせ、main は hello が来た画面にだけ表示を任せる
- **表示を持たない画面**（この機能を持つ最初の版への更新。古い版のサーバーが配る画面）には、main が最小限のダイアログだけを出す: 止まるものが残ったとき・合わない版を聞くとき（「あとで／止めて切り替え」「あとで／中断して更新」）と、前の版に戻したとき。**待っている間は何も出さない**（ログだけ。待ちは利用者が選んだ「止まらない更新」の続きで、作業が終われば自動で切り替わる）。リモートの窓・ブラウザー・スマホの画面には出さない

---

## 7. main に頼む機能を、新しい main に付け直す

### 7.1 口

- `process.parentPort`（utilityProcess の口）を、サーバーが作る名前付きパイプ（`\\.\pipe\pleiad-main-<データ置き場のハッシュ>`）に替える。運ぶメッセージの型は今の parentPort のものをそのまま使う（`secret`・`computer-*`・`agent-browser-*`・`browser-*`・screencast・`resident`・`os-open`・`locale`・`wake`・`update-lock`・`running`・`abort`・`shutdown`・`ready`）
- **メッセージは構造化複製ではなく JSON の行になる**。`computer-result` の画面の写真（`Uint8Array` の JPEG）のようなバイナリーは、印を付けた base64 に包んで運び、受ける側で戻す（往復のテストを書く）。1 行の大きさの上限と、写真が増やす量（約 4/3 倍）も確かめる
- core の側は `process.parentPort` を直に触っている所（`core/server.mjs` の `parentPortBrowser`・`parentPortScreencast`・`openExternal`・`withResident`・`postResident`・`locale`・computer の driver・`parentPort.on('message')`・`announce` の `ready`、`secret-store.mjs`、`os-open.mjs`）を、「main への口」1 つ（`mainPort`。`on('message', ({ data }) => …)` と `postMessage` を持つ parentPort と同じ形で、つながっているか・切れた・戻ったを知らせる）に寄せる。`utilityProcess` の経路では `process.parentPort` をそのまま入れる
- main の側は、パイプの口を `worker`（`on('message')`・`once('exit')`・`postMessage`・`off`）と同じ形の薄い包みにして、`desktop/*-bridge.cjs`・`desktop/computer/service.cjs`・`desktop/resident.cjs` は口だけを差し替える（これらは `worker.on('message')` と `worker.postMessage` だけを使う【確認】）
- 握手: `hello { ipc: [min, max], appVersion, secret }`。`secret` はサーバーが `control.json` と同じ置き方（権限 0600。ADR 0083）で書く。**版を聞く・引き継ぎを頼む・終わらせるの 3 つは、版をまたいで形を変えない**
- main とサーバーの口は、新しい main が古いサーバーを 1 版ぶん話せるようにする（§6 の戻し道のため）。新しい main の preload は、古い画面が使う名前を 1 版ぶん残す
- 新しい main の探し方: `control.json`（pid・origin・cliToken・appVersion）と `run\` のパイプの名前の控えから、走っているサーバーを見つける。生きていれば付け直し、無ければ起こす。単独起動の `second-instance` は今のまま

### 7.2 main が居ない間と、戻ったとき

main が居ない時間は、試験用アプリで 17〜19 秒（Electron 本体のみ・無圧縮）、**本物の配布物の形でインストーラーの区間が 49〜53 秒**【実測。stage1-0 §4。確かめ 約 8・旧版の削除 約 8〜11・空き 約 10〜12・展開 18〜21・起動 1.5〜3】、利用者の実測は 55〜70 秒（新しい main の起動・サーバーの起動・窓の描画が加わる）。

| 機能 | 居ない間 | 戻ったとき |
|---|---|---|
| secret（safeStorage。`secret-store.mjs`） | 復号は main が戻るまで待たせる（上限 5 分）。復号した値はサーバーのメモリに持ち続け（500 件まで）、同じ秘密の 2 回目からは main に頼まない。新しいターンの始まり（アカウントのトークン・MCP の秘密）だけが待つことになる。**実装**: 送ったのに答えが来ないまま切れた依頼は、つながるまで待つ依頼に戻す（答えの待ちの上限で失敗にしない）。暗号化した値も暗号文との組で持つ。暗号化できるかの答えを得られなかった（上限を過ぎた）ときは、平文扱いに落とさず失敗にして覚えない（main が居ないだけで平文で書き始めない） | 待たせていた依頼を流す |
| computer use（Win32・オーバーレイ・Esc） | **Esc と同じに扱い、使用を止める**（オーバーレイも Esc も無いまま画面を動かさない。ADR 0071・0072。利用者の承認済み）。ツールには「Pleiad の更新中のため止めました」と返す。ターンは止めない。**実装**: 口が切れたら driver が待っていた呼び出しを `away` で失敗にし（`onAway`）、ロックの `stopAll('update')` が持ち主・貸し借りの先・待っているターンに止めた印（reason `update`）を付ける。以後の呼び出しは main に送らずすぐ stopped で返る。居ない間に始まった呼び出しも `away` → 同じ印 | 止めたことはエージェントに伝え済み。印はターンのもので、次のターンは普通に承認からやり直す。戻った main へ止めたことは送り直さない |
| 内蔵ブラウザー（WebContentsView・CDP 中継 `browser-relay.cjs`・screencast） | 窓ごとタブが消え、会話ごとの CDP 中継（ポートと鍵）も消える（**タブの中身は一度切れる**。利用者の承認済み）。`agent-browser` の呼び出しは失敗する。**実装**: サーバー（`parentPortBrowser`）が、main の endpoint の答えの URL（ポートと会話ごとの鍵）と、main が報告するタブの写し（http(s) のタブだけ。会話・URL・最後に選んだタブ。file: の写しと空のタブは戻さない）を持つ。居ない間に始まるターンの endpoint は写しの URL（新しい会話は、ここで決めた鍵と、ポートを一度も知らなければ選んだ空きポート）で答え、会話ごとの設定ファイルの `cdp` は同じ値のまま。screencast は見ている端末へ `ended('away')` を送って畳む | サーバーが中継の一覧（会話・ポート・鍵・開いていた URL）を持ち、新しい main に**同じポートと鍵で**張り直させ、タブを URL で開き直す。ページの中の状態（入力途中のフォームなど）は戻らない。**`agent-browser` の常駐は、同じポート・鍵で中継が戻れば次の呼び出しで張り直す**（同じ常駐のまま。約 30 ms）。別のポート・鍵でも、会話ごとの設定ファイルの `cdp` を書き直せば通る。居ない間は約 2 秒でエラー。中継はタブが無いと空のタブを作るので、**タブを開き直してから待ち受ける**【実測。stage1-0 §3】。**実装**: 付け直した main の橋（`desktop/agent-browser-bridge.cjs`）が `browser-restore-request` で写しを引き、タブを開き直してから `relay.restore` で同じポート・鍵を待ち受ける。ポートが取れなければ別のポートで立て、`agent-browser-endpoint-moved` でサーバーに知らせ、サーバーが持つ URL と設定ファイルの `cdp` を書き直す。写しは main が変化から約 1 秒でまとめて報告し、終了時（`will-quit`）にも最後を渡す |
| トレイ・スリープ抑止（`resident.cjs`） | 無くなる。入れ替えの間（約 50 秒）にスリープに入る見込みは小さい【推測】。必要ならサーバーが `SetThreadExecutionState`（koffi）で同じ間だけ抑える（**実装しない**。1-0 の d の長さでは要らない見込み） | サーバーが `resident` を送り直す（つながるたび。1-2） |
| powerMonitor の wake | 届かない | 付け直したら必ず 1 回、予定の確かめと上限の解除時刻の待ちの見直しを走らせる（**実装**: サーバーが main のつながり直しで行う。main は送らない。予定の確かめは何度呼んでもよい） |
| OAuth の openExternal・os-open（エクスプローラーで表示・ブラウザーで開く） | 非 Electron の開き方で開く（**実装**: 口が切れていて、main の下の起動なら、サーバーが explorer.exe などを絶対パスで直に起こす。`core/main-away.mjs` の `createExternalOpener`・`core/os-open.mjs` の `defaultOpener`。OAuth の URL は https とループバックの http だけ） | — |
| PC の通知 | main が出しているものは出ない | 画面が居ない間の完了・失敗・返事待ちは、既存の溜め（`runtime.buffer`・`completionNotices`）が戻った窓へ届け、窓の通知の処理（`web/notifications.mjs`）が出す。新しい仕組みは足さない（スマホなど別の画面がつながっていた間の分は、その画面へ届いた扱い） |
| 言語（`locale`） | — | 付け直しのたびに送り直す（サーバー） |
| ホストへ任せる口（`remote-agent`。この PC の AI からリモートのホストへ。`core/remote-delegation.mjs`・`desktop/remote-agent-bridge.cjs`。docs/remote.md §4.5） | ホストへの線は main のもので、居ない間は無い。**待たせず失敗にする**（`OFFLINE`）。**実装**: サーバー（`parentPortRemoteAgent`）は口が切れたら、答えを待っていた依頼を `OFFLINE` で失敗にし、ホストを全部オフライン扱いにする（一覧は消さず、許可の印は残す。中継する承認のカードは「オフライン」の表示になる）。居ない間の依頼・承認の答え・同期は main に送らずすぐ `OFFLINE`。`ply_delegate`・`ply_task_*` は今のオフラインの扱い（待たずに失敗・status と wait は最後の写しを返す・止めるは予定を残す）にそのまま乗る。動いているホストのタスクの写し（台帳の行）は消さない。待たせない理由: 線が無く、待っても約 50 秒は何も進まない・待たせるとモデルのターンが止まる・作った直後に切れた依頼の結果は分からず、待って送り直すと二重に作りうる（失敗を返してモデルに任せる）・ホストがオフラインのときの扱いが揃っている | サーバーがつなぎ直すたびに送る `ready` で、main の橋が一覧と、つながっている線の `ready`（`remote-agent-ready`）を送り直す（`resync`）。サーバーは追いつき（`catchUp`）で、動いているタスクの今の状態と中継する承認を求め直す（承認のカードも作り直す）。線は main のものなので、切り替え（S2）の間も張ったまま。**パイプの経路では、サーバーが `process.parentPort` を直に見ていてこの口が無効だったので、main への口（`mainPort`）に寄せた** |
| Chrome の OS の層（`chrome-os`。エージェントのブラウザー＝PC の Chrome の窓の操作。`core/chrome/os.mjs`・`desktop/chrome-os/index.cjs`。ADR 0153・0167） | 層は main のもの。居ない間は**待たせず失敗**（null・false）で返す。**実装**: サーバー（`parentPortChromeOs`）は口が切れたら、待っていた呼び出しを失敗で返し、層を pending に戻す（Chrome への接続は残る） | つながり直すたびに `chrome-os-ready-request` を送り、新しい main の層が `chrome-os-ready` で答える。**パイプの経路では、サーバーが `process.parentPort` を直に見ていて層が作られず、設定 › ブラウザーの「エージェントのブラウザー」も `AGENT_HOST_AGENT_BROWSER=chrome` も使えなかったので、main への口（`mainPort`）に寄せた**（v0.12.0-beta.1〜beta.11 に有った不具合）。**層が出す値は main のプロセスごとに替わる**: `locateBrowser` の browser の id（Windows は起動ごとの連番）は、新しい main の層が知らず、`launchWindow` が `unknown-browser`（mac は `invalid-browser`）で断る。core（`core/chrome/windows.mjs`）は、探したときの層の世代（`generation()`。main の入れ替わり・口の切断で上がる）を覚え、世代が替わっていれば探し直す。層が起こせなかったと答えたとき（`reason` がある）も、探し直して 1 回だけやり直す（chrome.exe が窓を開いたかもしれない返事の無い失敗では、やり直さない）。v0.20.0 への更新（2026-10-18）で、古いサーバーが前の main の id を持ち続け、chrome.exe を起こせない失敗が続いた |
| エージェントのブラウザー（Chrome の中継 `core/chrome/relay.mjs`・Chrome への ws。ADR 0167） | **Chrome への ws は接続の子（保持役の子）が持つ**ので、サーバーの入れ替えでも main の入れ替えでも切れない（確認も出直さない）。中継の端点（ポートと鍵）はサーバーのものだが、入れ替わるときに状態（会話の id・鍵・ポート・隠した窓の印）を接続の子に預け、新しいサーバーが同じポート・同じ鍵で受ける。main の層が居ない間（`pending`）に窓を開く依頼は戻るのを待ち（20 秒）、戻らなければ「更新中」で失敗にする。隠した窓は**閉じない**（終わりの `closeAllAgents` は更新では走らせない）。main が居ない間にサーバーが終わるなら、窓のタブを CDP で閉じる | 新しい main の層が `exportAgent` の印から `adoptAgent` で隠した窓の記録を作り直し、見張りに入れる。引き継げなかった窓は、そのタブを CDP で閉じる。エージェントの接続（`agent-browser`）は 1012 で閉じ、同じポート・鍵へのつなぎ直しで戻る |
| `main-leaving` | — | 受けた後は、戻るまで画面の猶予（`AGENT_HOST_GRACE_MS`）を数えない（`core/main-away.mjs` の `holdsGrace`）。戻ったら猶予は戻った時から数え直す。**更新を取りやめた**（インストーラーが起きなかった・失敗した。main は居続ける）ときは、main が `main-leaving-cancel` を送り、猶予を数える状態と、切断の上限（30 分 → 3 分。`core/orphan-guard.mjs`）を元に戻す（つながりは切らない）。古いサーバーは知らない型を読み捨てるので、取りやめの印は戻らない（次の付け直しで消える） |

**切り替え（S2）に替わったとき**（1-5 と 1-6 の合わせ。main は同じで、サーバーだけが空から始まる）: S2 は、内蔵ブラウザーのタブの写し・中継の URL・復号した値の組・ホストの一覧を持たない。

- **内蔵ブラウザー**: S2 がつながるたびに送る `ready` で、main の橋（`agent-browser-bridge.cjs`）が `browser-state-report` を 1 回送り直す（中身が変わらなくても。中継の `{ port, entries }` つき。サーバーは `adoptRelay` で取り込む）。`browser-restore-request` で開き直す道にしなかったのは、タブと中継は main のものでそのまま残っており（S2 の答えは空）、S2 に要るのは写しを持たせることだけだから。S2 の復元の答えはその後、次に付け直す main への答えになる
- **secret**: 頼み直せば足りる。safeStorage は main のもので、暗号文はデータ置き場にあり、サーバーが持つ「復号した値の組」は写しにすぎない。S2 は空の組から始めて main に頼む（暗号化できるかの `status` も頼み直す）
- **computer use の後始末の見張り**（`desktop/computer/service.cjs` の `releaseAll`・`desktop/computer-overlay.cjs` の `hideAll`）: つながりが切れるたびに `exit` が出るので、`once` ではなく `on` で付ける（S2 への付け直し・切れた後の付け直しの後も効く）
- **ホストへ任せる口**: 上の表のとおり、`ready` で一覧と線の `ready` を送り直す

**[ADR 0148](../adr/0148-agent-browser-in-chrome.md) との関係**（エージェントのブラウザー操作を PC の Chrome の専用の窓に移し、内蔵ブラウザーは人が見るビューアにする方針）: その第 1 段で内蔵ブラウザーのプロフィールを削除したので、タブの写しはプロフィールを持たない（会話・URL・最後に選んだタブだけ）。Chrome に移った後は、エージェントのタブは Chrome にあって main の入れ替えで消えないので、開き直しは要らない。中継（会話ごとの鍵付きの loopback）の URL をサーバーが持ち、同じポート・鍵で張り直す仕組みは、中継を main に置く限りそのまま使う（Chrome への接続は切ると許可の確認がまた出るので、接続は main にもサーバーにも置かず、保持役の子に置いて入れ替えを越えさせる。上の表と [ADR 0167](../adr/0167-chrome-connection-held-across-updates.md)）。ビューアのタブの写しと開き直しは残る。

---

## 8. 画面の再接続

- **トークンとポートを引き継ぐ**: 画面のトークン・CLI のトークン・ポートを引き継ぎ先に渡し、S2 は同じ値で起動する（段階 1 は main が `AGENT_HOST_TOKEN`・`AGENT_HOST_PORT` で渡す。段階 2 以降は保持役の預かり物）。保持役が居ない冷えた起動は今どおり新しい乱数
- これで、引き継ぎの間に切れた画面は、今の 1.5 秒ごとのつなぎ直し（`web/client.mjs`）のまま戻れる。`/auth-check` は同じトークンなので 401 にならない。cookie（`agent_host_token`）もそのまま効く
- ポートが取れなかった（引き継ぎの 1 秒の間に別のプロセスが取った）ときは空きポートに移り、main が窓を新しい origin で読み直す（`window-trust` の origin の登録も更新する）。外のブラウザーで開いていたタブは新しい URL が要る（まれなので受け入れる）
- **版ずれ**: 今は `protocolVersion` が違えば画面は止まって「対応していない」と出す（`client.mjs` の `ready` の処理）。`ready` に `appVersion`（とビルドのハッシュ）を足し、画面は自分を配った版と違えば、入力欄の下書きを保存して 1 回だけ読み直す（sessionStorage に「この版で読み直した」を残して繰り返さない）。`web/` はリクエストごとにディスクから読むので、読み直せば S2 の版の画面になる
- スマホ（リモート）: 接続口はサーバーにあり、S2 が同じホストの鍵で中継につなぎ直す。端末から見ると短い切断。アプリに同梱した画面との版ずれは今の扱い（`protocolVersion`）のまま
- 古いサーバーと新しい画面: 段階 1 の先送り（§6.1）では、新しい main が S1（古い版）の画面を出す。切り替えを待つ表示はその画面が描き、main は版つきの口で状態を渡す（表示を持たない画面には最小限のダイアログ。§6.1）

---

## 9. 推奨する案と理由

**(b) ターンの保持役 + (a) のうち「版ごとの実行場所で、main から切り離して動かす」**。

1. **core の入れ替えでターンが止まらないのは (b) だけ**。リリースはほぼ毎回 `core/` を変えるので、(a) 単独では「手が空くまで古いサーバーを残す」にしかならず、委譲や bot で作業が絶えない使い方では、いつまでも新しい版にならない
2. **(b) は (a) の一部が無いと穴が大きい**。npm のシムの CLI は `$INSTDIR` の `Ply.exe` で走って NSIS に止められ（§1）、サーバーが居ない間は承認・MCP・スマホのどれも答えられない（§2.1）。実行場所を外に出すと、居なくなるのは main だけになる
3. **持ち続ける状態を、壊れにくいものだけにする**。保持役はプロトコルを解釈せず、行と通番と控えだけを持つ（id の付け替えも要らなくなった）。ターンの意味の状態は、保持役の記録を今と同じ正規化に流して作り直す（§4.5）。版をまたぐ直列化の形を持たない
4. **Claude の付け直しは CLI と SDK が想定している形に乗り、実測で通った**。承認待ちの最中でも承認が回し直され、hooks と in-process MCP も効く（§4.4）。Codex・agy は握手が要らない
5. **副産物が大きい**: サーバーが落ちてもターンが止まらない。main が落ちてもサーバーが残る。サーバーの不具合の修正版を、作業を止めずに当てられる
6. **戻し道が今の作りそのもの**。合わない更新・付け直せないターンは、ADR 0036 の「中断して更新」と `restart` の回復に落ちる。最悪でも今より悪くならない

代わりに受け入れるもの:

- プロセスが 1〜2 本増える（保持役。Node 1 本で数十 MB【推測】）
- 実行場所の写しで、ディスクを最初に約 120 MB と Node、版ごとに変わった分（数 MB）を使う（§3.3）。`node.exe` の同梱でインストーラーが大きくなる（約 30 MB 圧縮後【推測】）
- main の入れ替えでは、内蔵ブラウザーのタブの中身と computer use の操作は一度切れる（§7.2。避けるには段階 5 が要る）
- 形式番号を変える版は今の「中断して更新」のまま（§5.3）
- 引き継ぎの 1〜1.6 秒の間に当たった HTTP の MCP の呼び出しは、Claude と agy で 1 回失敗しうる（§4.6。段階 4 を足すかは実機で数えて決める）
- 段階 1 は保持役を持たないので、core の切り替えが作業の終わりまで先送りになる（§6.1）
- macOS は対象の外（Windows が主）。同じ層の分け方は使えるが、Squirrel.Mac の入れ替えの中で子が生き残るかは【未確認】

---

## 10. 今の文書との言葉の対応

| この設計の言葉 | 意味 | 合わせた既存の言葉 |
|---|---|---|
| 中断して更新 | ADR 0036 の今の流れ。戻し道として残す | `docs/desktop-releases.md`「更新UX」 |
| 引き継ぎ | 旧サーバーが手を離し、新サーバーが付け直すこと | — |
| 付け直す | 保持役の子・main をサーバーにつなぎ直すこと | 「つなぎ直す」（画面の再接続） |
| 保持役 | エージェントの CLI の stdio を持つ薄いプロセス | — |
| 実行場所 | `$INSTDIR` の外の版ごとの置き場 | — |
| 切り替えの先送り | 載っていないターンが終わるまで古いサーバーを残すこと | ADR 0036 の「終わったら更新する」予約（退けたもの）とは別（§6.1） |
| `restart` / `update` の中断 | 今の中断の理由 | `docs/design.md`「中断と再開」 |

---

## 11. 段階 0 の実測で変わった点

下書きの推測のうち、実測で覆ったもの・確定したもの。

| 下書き | 実測の結果 | この文書での扱い |
|---|---|---|
| in-process の `host` MCP を HTTP の口に移す（付け直しの不確かさを 1 つ消す） | 付け直しで in-process の MCP も hooks も効く。HTTP に移すとつながらない間は待たずに即失敗するので、段階 4 が無いと今より悪い | **取り下げ**。in-process のまま、ハンドラーの終わりを待って二重実行を抑える（§4.4） |
| Codex の付け直しは `initialize` を送らない始まり方が要るかもしれない／保持役が答えを作る | 2 回目の `initialize` は `Already initialized` を返すだけで無害。握手は要らない | 保持役は `initialize` の答えを作らない（§4.1・§4.4） |
| JSON-RPC の id は保持役が付け替える（親の世代ごとの記録） | codex は文字列の id をそのまま返す。世代つきの文字列の id で足りる | **保持役から id の付け替えを外した**（§4.1・§4.3） |
| 答えていない依頼は全部、付け直した親へ渡し直す | `can_use_tool` は要らない・`mcp_message` と `elicitation` は必須・`hook_callback` は渡し直さない（CLI が打ち切る） | 種類ごとに決めた（§4.1） |
| 承認待ちの最中の付け直しは未検証 | 通る（元と同じ `requestId`）。親が居ない 300 秒でも | 確定（§4.4） |
| 旧サーバーは SDK の `query` を閉じて手を離す | 閉じると SDK が stdin を閉じて kill し、CLI が終わる。先に `detach` して転送を止める必要がある | 順序を書いた（§4.4・§5.1 の 8） |
| 保持役の `spawn`/`attach` はいつ送ってもよい | SDK が最初の `initialize` を書く前に送らないと、hooks・MCP が効かないまま始まる | 順序を書いた（§4.4） |
| 保持役は親が居ない間も読む（そう作る） | 読まないと約 240 KB で CLI が止まる | 理由と数字を書いた（§4.1） |
| HTTP の MCP が数秒つながらないとき、外されるかもしれない | 外されない。ただし Claude と agy は即失敗、Codex は約 2 秒まで透過に再試行。**不通中に始めた Codex のスレッドは MCP を持たない** | 段階 4 の根拠・新しい作業を口が立つまで待たせる理由・口の不通を 2 秒以内に抑える理由（§4.6） |
| 実行場所のプロセスが NSIS をまたいで生き残るかは未検証（Job に入れられるかもしれない） | 生き残る（`detached` + `stdio: 'ignore'`。`CREATE_BREAKAWAY_FROM_JOB` は要らない）。`$INSTDIR` の中・前方一致の兄弟は止められた | 確定。Job の制限を起動時に調べて分岐する（§3.2） |
| 子にしない理由は「生き残るため」 | `utilityProcess` の中から detached で起こしても生き残った | 理由を「別の寿命・別の版のため」に直した（§3.2） |
| `detached` でない子は道連れ（推測） | 実測で確定（libuv の Job）。サーバーの `detached` でない子は引き継ぎで止まる | サーバーの子を洗い出す作業を段階 1 に足した（§3.2） |
| `resources\app` は 345 MB・4,021 ファイル | 約 107 MB・4,017 ファイル（Claude の同梱バイナリーを外した後） | 数字を直した（§3.3） |
| ハードリンクはディスクの節約が主（推測） | ディスクと、再起動の速さ（Defender の再検査を受けない。1.2〜1.3 秒 対 3.5〜4.5 秒）の両方に効く。時間では得をしない | 推奨に格上げ。「写す→起こす」の順・同じ読みで 16 並列（§3.3） |
| 実データの起動時間は不明（空の置き場で 0.54〜0.62 秒） | 1.2〜1.3 秒（`ready`）・一覧まで約 1.6 秒。ロックの引き継ぎは最大 18.6 ms | 断の目安を 1〜1.6 秒に（§5.1・§5.2） |
| 55〜70 秒（入れ替え） | 試験用アプリでは 17〜19 秒。本物の内訳は測っていない | 段階 1 で本物を測る（§7.2） |

### 段階 1 の 1-0 で変わった点（[stage1-0.md](stage1-0.md)）

| 下書き・段階 0 の時点 | 1-0 の結果 | この文書での扱い |
|---|---|---|
| node-pty・`npm test` を公式の Node で通せるか未確認 | 通る（Node 24.21.0・x64。302 本・11,588 判定が全て通過） | §3.1 を【実測】に |
| 本物の `Ply.exe` の Job は未確認 | `BREAKAWAY_OK` だけ（explorer 経由・NSIS が起こす形とも）。インストール版は Job に入っている（制限の中身は読めていない） | §3.2 |
| `agent-browser` の常駐が戻るかは未確認 | 同じポート・鍵で張り直せば戻る。別の URL でも設定ファイルの書き直しで通る | §7.2 |
| 本物のインストーラーの内訳は未測定 | 49〜53 秒（確かめ 約 8・旧版の削除 約 8〜11・空き 約 10〜12・展開 18〜21・起動 1.5〜3）。書いた直後の読みは約 7 秒 | §7.2・§1 |
| `customCheckAppRunning` を定義するか | **定義しない**（旧アンインストーラーが効かない・何もしない版は壊れる） | §3.4 |
| サーバーの `detached` でない子（`agent-browser` の常駐など）は引き継ぎで止まる | 直の子だけ止まる。常駐は生き残る。段階 1 で `detached` に直すものは無い | §3.2 |
| （新）外部の stdio MCP はサーバーの直の子 | 引き継ぎで止まり、状態は戻らない | §4.6・plan.md R15 |
| （新）agy の relay は今 `$INSTDIR` の `Ply.exe` で走っている・外に貼る設定が版ごとのパスになる | 実行場所への移行（1-3）で直す | §3.4 |
| （新）切り替えの「0 件」に `!` の行・Codex の裏の端末が数えられない | 切り替えで止まる（今の更新・終了と同じ）。1-6 で扱いを決める | plan.md 1-6 |

---

## 未確認の点

- Claude: `host` の `fork` / `set_title` が二重に走ったときの実害。CLI をつながらない間に新しく起動したときの HTTP MCP の状態。親を殺す瞬間が SDK の内部の行の途中に当たる場合。`PreToolUse`・`PreCompact` 以外の hooks の最中。TS 以外の MCP のサーバーの 2 回目の `initialize`（段階 2-0 で測ったものは [stage2-claude.md](stage2-claude.md)）
- Codex: 本物のサーバー（Pleiad）を通した本物の Codex の付け直し（本物のモデル・承認を数分待たせたとき・サブエージェント・裏の端末の入れ替えは、保持役の身代わりで【実測】済み。stage3-codex.md）。保持役が読まない状態が続いてパイプが詰まる量のとき
- agy: 呼び出しの最中に口を切った場合。relay が複数（`--context --computer --browser --control` の束ね）の場合の不通
- インストール版の `Ply.exe` の Job の制限の中身（`KILL_ON_JOB_CLOSE` の有無。Job に入っていることだけ確認した）と、explorer 経由の起動で付く Job の作り手
- PowerShell が無い環境の `taskkill` の道・全ユーザー向けのインストール・署名した旧版→新版・Windows ARM64（node-pty・公式の `node.exe`・koffi を動かしていない）・macOS
- 旧サーバーが静かに放す形（`flushNow` → ロックを明示して放す）での引き継ぎの時間。強制終了ベースの値しかない。モジュールを先に読み込んでロックを待つ起動の実測
- 本物のエージェントを起こす経路・ロックを取った後の裏の処理（`warmModels` など）を含む起動の重さ
- 内蔵ブラウザー: 呼び出しの最中に中継が落ちた場合・立て直す前に同じポートを別のプロセスが取った場合・本物の panel（screencast）を付けた場合
- サーバーの孫（Claude の Bash ツールのコマンドなど）が親の CLI の終了で止まるか
- 本物のインストーラーの内訳のうち、旧版を消してから最初のファイルが出るまでの約 10 秒の中身・サイレント更新・署名した旧版→新版の内訳
- この PC 以外（企業の EDR・Defender の除外設定がある環境）での、書いた直後の読みの遅さと Job の制限
