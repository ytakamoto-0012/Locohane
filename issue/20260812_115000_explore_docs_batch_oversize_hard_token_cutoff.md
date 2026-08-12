# explore-docsへ4年分114ファイルを一括委譲し、system_prompt.mdのバッチサイズ目安(40件)を超過してトークン上限打ち切りが発生

- **区分**: 問題点
- **検知日時**: 2026-08-12 11:42:23〜11:51:32
- **対象ログファイル**: data/logs/app_20260812_113919.log

## 経緯

子供会の活動記録（`E:\yukinori\テスト`配下）から年間行事予定表を作るタスクの調査フェーズで、メインエージェントが`explore-docs`サブエージェントへ以下の内容を一括委譲した（11:42:23）。

- 2019年 ocr_md（33ファイル）
- 2020年 ocr_md（17ファイル）
- 2024年 ocr_md（40ファイル）
- 2025年 ocr_md（24ファイル）
- 合計114ファイルを**1回の`dispatch_agent`呼び出し**で「全ファイル読み込んでください」と指示

`system_prompt.md`には「1回の`dispatch_agent`は`${subagent_max_iterations}`件（=`config.ini`の`[subagent].max_iterations`=40）を目安とし、超える場合は`グループ数=ceil(合計件数÷${subagent_max_iterations})`を計算して均等配分・逐次委任する」という明示の規律があるが、今回は114件（目安の約2.9倍）を分割せず1回で渡した。

サブエージェントはファイルを1つずつ`Read`しながら進めたが、11:46:37（iter=15、total_tokens=88,618）で`[subagent].token_guard_soft_threshold`(81,920)を超えて注意メッセージが注入された。しかしその後もツール呼び出しを続け、11:49:21（iter=19、total_tokens=123,660）で`[subagent].token_guard_hard_threshold`(120,000)に到達し、**要約が完了しないまま強制打ち切り**となった。

打ち切り時の戻り値は「(too many results, first part omitted. showing recent results only)」という注記付きで、直近の生のOCR結果（誤字混じりの断片テキスト）がそのままメインエージェントへ返された（整理・要約は一切されていない）。

メインエージェント側はこの状態を11:51:32の思考で「サブエージェントがトークン上限に達してしまったため、もう少し小さく分割して情報を収集します」と自ら認識し、2019年+2020年（50ファイル）だけに絞って`explore-docs`を再委譲するリカバリを行った（残り2024年・2025年分は別途追加で委譲する必要が生じたはず）。

## ログ引用

```
2026-08-12 11:42:23,199 DEBUG src.llm: LLM応答: content='良いデータが揃いました。次に、各年の活動記録から具体的な行事内容を抽出します。\n\n' reasoning_content=None tool_calls=[{'name': 'dispatch_agent', 'args': {'task': 'E:\\yukinori\\テスト の各年フォルダにある ocr_md の markdown ファイルをすべて読み込み、子供会の行事・イベント情報を抽出してください。\n\n対象フォルダ:\n- E:\\yukinori\\テスト\\2019\\ocr_md\\ (33ファイル)\n- E:\\yukinori\\テスト\\2020\\ocr_md\\ (17ファイル)\n- E:\\yukinori\\テスト\\2024\\ocr_md\\ (40ファイル)\n- E:\\yukinori\\テスト\\2025\\ocr_md\\ (24ファイル)\n...全ファイル読み込んでください。2022年はデータなしです。', 'agent_type': 'explore-docs'}, ...}]

2026-08-12 11:46:37,981 WARNING src.subagent: subagent: トークン使用量が閾値(81920)に近づいたため注意メッセージを注入(iter=15, total_tokens=88618)

2026-08-12 11:49:21,769 WARNING src.subagent: dispatch_agent: トークン使用量が閾値(120000)に達したため打ち切り(iter=19, total_tokens=123660)

2026-08-12 11:49:21,771 DEBUG src.tools: tool_result: name=dispatch_agent content='[サブエージェント: トークン使用量が上限(120000トークン)に達したため打ち切りました]\n\n[ここまでに収集できたツール実行結果（打ち切りにより要約や整理は未完了）。委譲元はこれを踏まえて続きの調査が必要か判断すること]\n(too many results, first part omitted. showing recent results only)\n...'

2026-08-12 11:51:32,244 DEBUG src.llm: LLM応答: content='まず、各年の行事データを読み込んで主要行事を抽出します。データを分割して収集します。\n\n' reasoning_content='計画が承認されました。まず、過去データから主要な行事を抽出する必要があります。サブエージェントがトークン上限に達してしまったため、もう少し小さく分割して情報を収集します。\n\nまず、各年の主要な行事を抽出するために、exploreサブエージェントに依頼します。40件ずつグループ分けして処理します。\n' tool_calls=[{'name': 'dispatch_agent', 'args': {'task': 'E:\\yukinori\\テスト の各年フォルダにある ocr_md の markdown ファイルを読み込み...\n対象:\n- E:\\yukinori\\テスト\\2019\\ocr_md\\ (33ファイル)\n- E:\\yukinori\\テスト\\2020\\ocr_md\\ (17ファイル)\n...', 'agent_type': 'explore-docs'}, ...}]
```

## 推定原因

- `system_prompt.md`（[system_prompt/system_prompt.md:77](system_prompt/system_prompt.md#L77)）は「1回の`dispatch_agent`は`${subagent_max_iterations}`件（今回の設定では40件）を目安に分割する」と明示しているが、LLMは4年分のフォルダを件数換算（33+17+40+24=114件）せず「年ごとにまとめて全部読ませる」判断をし、目安の約2.9倍を1回で委譲した。
- `[subagent].token_guard_soft_threshold`(81920)のソフト警告は仕様通り11:46:37に注入されたが、既に大量の`Read`結果を抱えたサブエージェント側では「次の応答でまとめて回答せよ」という指示に従って要約に切り替えるだけの余地が残っておらず、結果的に4回分のツール呼び出し（iter=15→19）を経て`token_guard_hard_threshold`(120000)に到達し強制打ち切りとなった。前回セッション（app_20260812_023059.log, explore単体タスク）ではソフト警告後1イテレーションで正常完了した実測があり、対比すると「ソフト警告後に軌道修正できる余地」はバッチサイズ（≒残りタスク量）に強く依存することが分かる。
- 委譲件数の事前チェック（`Glob`の`total_matches`を件数目安と突き合わせて分割要否を判断する）をLLMが徹底しなかったことが直接の引き金。プロンプト側の指示は既に存在するため、コード側の対策としては「dispatch_agent呼び出し時に、タスク文中のファイル数目安（例: 括弧内の「(N件)」の合計）が`subagent_max_iterations`を明らかに超えている場合に警告を返す」といった軽量なガードを追加する余地がある（未実装・要検討）。

## 追記（YYYY-MM-DD HH:MM）

（同一原因の問題が再検知されるたびに、ここに追記を積み重ねていく）

## ユーザー回答

ここにはユーザーの回答が記述される
