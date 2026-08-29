# 第19章 Polonium でコード生成器を書く

> **この章のゴール**
> `selfhost/codegen.po` が、C 版と**まったく同じ LLVM IR** を出す。
> **そして、その IR が本当に動く。**
>
> ```bash
> $ diff <(./build/poloniumc -S t.po) <(./build/stage1-codegen t.po) && echo 一致
> 一致
> $ ./build/stage1-codegen t.po > t.ll
> $ clang t.ll build/runtime.o -o t && ./t     # ★ stage1 が作った IR で動く
> ```

**これで stage1 は「コンパイラ」になります。**

第16章から積み上げてきた 4 段が、ここで揃います。

| 章 | 段階 | 検証 |
|---|---|---|
| ch16 | 字句解析 | トークン列 |
| ch17 | 構文解析 | AST（S 式） |
| ch18 | 意味解析 | 診断メッセージ |
| **ch19** | **コード生成** | **IR、そして実行結果** |

---

## 目次

- [19.1 IR を一致させるということ](#191-ir-を一致させるということ)
- [19.2 連番と出現順が一致の鍵](#192-連番と出現順が一致の鍵)
- [19.3 バッファ 6 本を list[str] で](#193-バッファ-6-本を-liststr-で)
- [19.4 print では IR を書けない](#194-print-では-ir-を書けない)
- [19.5 動作確認](#195-動作確認)
- [19.6 まとめと次章の予告](#196-まとめと次章の予告)

---

## 19.1 IR を一致させるということ

### 📖 「同じ意味」ではなく「同じ文字列」

```llvm
%t.0 = load i64, ptr %x
%t.1 = add i64 %t.0, 1
store i64 %t.1, ptr %x
```

意味が同じ IR は無数に書けます。しかし**この本の検証は文字列の一致**です。

**★ 厳しくすると、確認が簡単になります。**
「意味が同じか」を判定するプログラムを書くのは大仕事ですが、
`diff` なら 1 行です。**検証の道具を単純に保つために、要求を厳しくします。**

### ⚠️ 一致のために揃えるもの

| 揃えるもの | ずれると何が起きるか |
|---|---|
| 一時値の連番（`%t.0`） | 全行がずれる |
| ラベルの連番（`if.then.0`） | 分岐先の名前が変わる |
| 文字列リテラルの番号（`@.str.0`） | 定数の名前が変わる |
| `declare` を出す順序 | ファイルの先頭部分がずれる |
| バッファの連結順 | 構造ごと変わる |

**すべて「いつ番号を取るか」「いつ表に載せるか」の問題です。**

---

## 19.2 連番と出現順が一致の鍵

### ✍️ 番号は「最初に 1 回だけ」確保する

```python
def gen_if(self, n: ast.Node) -> None:
    id_: int = self.label_counter    # ★ 最初に 1 回だけ
    self.label_counter = self.label_counter + 1

    then_l: str = "if.then." + str(id_)
    else_l: str = "if.else." + str(id_)
    end_l: str = "if.end." + str(id_)
```

**⚠️ 使うたびに `label_counter++` すると、同じ if の中で番号がずれます。**
C 版のコメントにもそう書いてあります。**移植先でも同じ罠があります。**

### ✍️ 「使ったものだけ declare する」＝出現順に依存する

```python
def declare_rt(self, sig: str) -> None:
    i: int = 0
    while i < len(self.decled):
        if self.decled[i] == sig:
            return          # 出済み
        i = i + 1
    self.decls.append("declare " + sig + "\n")
    self.decled.append(sig)
```

**★ 「初めて使ったときに出す」ので、生成の順序がそのまま `declare` の順序です。**
式の評価順（左辺 → 右辺）を 1 か所でも変えると、
**IR の先頭にある declare の並びが変わって diff が出ます。**

> **★ 第9章で「使ったものだけ宣言する」と決めたことが、
> 10 章あとに「移植の正しさの検査」になっています。**

### ⚠️ 文字列リテラルも同じ

```python
lab: str = "@.str." + str(self.str_counter)
```

`@.str.N` の N は**出現順**です。式をどの順に生成するかが、そのまま番号になります。

---

## 19.3 バッファ 6 本を list[str] で

C 版は `StrBuf` を 6 本持ちます（header / globals / decls / body / allocas / fn）。

```c
sb_printf(&e->fn, "  %s = load %s, ptr %s\n", t, llvm_mem_type(ty), ptr);
```

Polonium 版は `list[str]` に溜めて、最後に `join` します。

```python
self.fn.append("  " + t + " = load " + self.llvm_mem_type(ty) + ", ptr " +
               ptr + "\n")
...
out.append(strings.join(self.allocas, ""))
out.append(strings.join(self.fn, ""))
```

**★ 第15章で決めた「文字列は list に溜めて最後に join」がここで効きます。**
`out = out + line` を 27,000 行ぶん繰り返したら O(n²) で終わりません。

---

## 19.4 print では IR を書けない

```python
print(codegen.codegen(mod, name, triple))
```

**これは間違いです。** `print` は改行を足します。
IR は**自分で改行を持っている**ので、末尾に余分な改行が入ります。

```python
# lib/io.po
extern def pl_print_raw(s: str) -> None

def print_raw(s: str) -> None:
    pl_print_raw(s)
```

**★ 第14章から数えて 4 つ目の「ライブラリに足す」です**
（`byte_at` / `join` / `eprint` / `print_raw`）。
**言語には 1 つも足していません。**

---

## 19.5 動作確認

**以下はすべて実際に実行した結果です。**

### ✅ IR が完全一致し、しかも動いた

```bash
$ make test
全 312 件パス

トークン列一致 348 件 / 字句エラーの内容一致 9 件
AST 一致 311 件 / 構文エラーの内容一致 37 件
型検査 一致 174 件 / 型エラーの内容一致 137 件
IR 一致 174 件 / stage1 の IR で実行して一致 156 件
```

**174 ファイルの IR がバイト単位で一致しました。**

さらに **156 件は、stage1 が出した IR を `clang` に渡して実行し、
C 版の実行ファイルと出力・終了コードが一致**しています
（残り 18 件は複数モジュールで、`-S` の出力をそのままリンクできないため除外）。

> **★ 「同じ IR が出る」だけでなく「その IR で動く」まで確かめました。**

### ★ stage1 は自分自身の IR を出せる

```bash
$ ./build/stage1-codegen selfhost/emit_ir.po | wc -l
27216
$ diff <(./build/poloniumc -S selfhost/emit_ir.po) \
       <(./build/stage1-codegen selfhost/emit_ir.po) && echo 一致
一致
```

**stage1（Polonium 製コンパイラ）が、stage1 自身の全ソース（約 5,700 行）から
27,216 行の IR を生成し、それが C 版の出力と 1 バイトも違いませんでした。**

**★ 第20章のブートストラップに必要なものは、これで全部そろいました。**
残るのは「`.ll` をファイルに書き、`clang` を呼ぶ」ドライバだけです。

### ✅ 速度

```
C 版 (-S)         real 0.06
stage1-codegen    real 0.08
```

stage1 の全ソースを IR にするまでの時間です。**C 版の約 1.3 倍**——
第16章 2.0 倍 → 第17章 1.6 倍 → 第18章 1.7 倍 → **第19章 1.3 倍**。

**★ 後半の段（意味解析・コード生成）ほど差が小さくなっています。**
文字列処理の比率が下がり、木をたどる処理の比率が上がるからだと考えられます。

### ⚠️ 移植で踏んだもの

**① `print` が改行を足す**（19.4 節）。最初の diff は「末尾に空行が 1 行多い」でした。

**② 値を返さない式の扱い。**
C 版は `NULL` を返しますが、Polonium の `str` に None は使えません
（`str | None` にすると呼び出し側が全部絞り込みだらけになる）。
**空文字列を「値なし」の印にしました。**

```python
def emit_call(self, n: ast.Node, args: str) -> str:
    if rt.kind == ast.TY_NONE:
        self.emit("  call void @" + n.ir_name + "(" + args + ")\n")
        return ""            # ★ 呼び出し側は結果を使わないと分かっている
```

**⚠️ これは「型で保証しない」判断です。** 本来なら `str | None` が正しい。
`gen_stmt` が返す値を「式文の値」としてしか使わないと分かっているので、
**簡潔さを取りました**（第20章の後に見直す候補）。

**③ この章では C 版のバグが 1 件も出なかった。**
第17章・第18章で 4 件見つけましたが、**コード生成器からは 0 件**。
`codegen.c` はテストが最も厚い部分（全テストが IR を経由する）なので、
**当然といえば当然の結果**です。

---

## 19.6 まとめと次章の予告

### できたこと

```
✅ selfhost/codegen.po（1180 行）— src/codegen.c（1288 行）の移植
✅ selfhost/emit_ir.po — C 版の -S と同じ出力を出す入口
✅ IR 一致 174 件（一時値・ラベル・@.str の連番、declare の順序まで）
✅ stage1 が出した IR で 156 件の実行結果が一致
✅ stage1 が自分自身の IR（27,216 行）を生成でき、C 版と完全一致
✅ lib/io.po に print_raw（言語には足していない）
```

### 触ったファイル

| ファイル | 変更 |
|---|---|
| `selfhost/codegen.po` | **新規 1180 行** |
| `selfhost/emit_ir.po` | **新規 60 行** |
| `lib/io.po` / `runtime` | `print_raw` |
| `tests/selfhost.sh` | IR の比較と**実行結果の比較**を追加（4 本目・5 本目） |

### この章で回収された設計判断

| 投資した章 | 内容 | この章での回収 |
|---|---|---|
| ch1 | バッファを分ける（header / globals / decls / body） | そのまま `list[str]` 6 本に移した |
| ch6 | `emit_label` が br を補う | 移植先でも「終端の管理」が 1 か所で済んだ |
| ch9 | 「使ったものだけ declare する」 | **出現順が一致の検査になった** |
| ch9 | 文字列リテラルの共有 | `@.str.N` の番号が一致の検査になった |
| ch11 | ラベル番号を最初に 1 回だけ取る | 移植先でも同じ罠を避けられた |
| ch15 | 文字列は `list` に溜めて `join` | 27,000 行の IR を O(n) で組み立てられた |
| ch17 | 一時値を `%t.N` にした | 移植先でも衝突しない |
| ch18 | `unwrap_*()` の形 | `type_of()` / `class_of()` として再利用 |

### 判断したこと（と理由）

| 判断 | 理由 |
|---|---|
| **「意味が同じ」ではなく「文字列が同じ」を要求する** | 検証が `diff` 1 行で済む。**厳しくすると確認が簡単になる** |
| **実行結果まで比べる** | IR が一致していても、リンクや実行時に壊れないとは限らない |
| **値なしを空文字列で表す** | `str \| None` にすると呼び出し側が絞り込みだらけになる。**型で保証しない代わりに簡潔さを取った**（要見直し） |
| **`print_raw` をライブラリに足す** | `print` は改行を足す。言語には触らない（第14章の境界線） |
| **`target triple` を環境変数で渡す** | ビルド時に埋め込めない（プリプロセッサが無い）。第18章の `PLC_LIB_DIR` と同じ手 |

### 既知の課題（担当章で解決する）

| 課題 | 解決する章 |
|---|---|
| stage1 に「`.ll` を書いて clang を呼ぶ」ドライバが無い | **第20章** |
| 複数モジュールのケースは IR を並べただけでリンクできない | 同上（モジュールごとにファイルへ書く） |
| 値なしを空文字列で表している | 第20章の後に見直す |

### ✍️ commit する

```bash
git add -A
git commit -m "第19章: Polonium でコード生成器を書く"
```

---

## 次章：第20章 ブートストラップと不動点検証

**達成目標**

```bash
$ make bootstrap
stage1 (C 版がビルド) → stage2 (stage1 がビルド) → stage3 (stage2 がビルド)
stage2 == stage3 ✅  不動点に到達しました
```

**★ ここが本書の終着点です。**

**やること**

| ファイル | 作業 |
|---|---|
| `selfhost/main.po` | ドライバ（引数解析・`.ll` の書き出し・`clang` の起動） |
| `Makefile` | `make bootstrap`（3 段ビルドと比較） |
| `docs/` | 全体の振り返り |

**⚠️ 予想される落とし穴**

- stage2 と stage3 が**バイト単位で一致**しなければならない
  （一致しなければ、どこかに「自分をコンパイルした人によって変わる何か」がある）
- stage1 が出す `.ll` を**モジュールごとにファイルへ書く**必要がある
- `clang` の起動（`sys.run`）とエラー処理
- ここまでの検証（5 本）を**全部通したまま**進める

### 🤔 第20章に入る前の練習問題

1. `codegen.po` の `gen_if` で番号を「使うたびに取る」形に変えて、
   `make selfhost-test` が何と言うか見る（**必ず元に戻す**）
2. `declare_rt` の重複排除を外して、IR の diff がどうなるか確かめる
3. `gen_expr` の二項演算で右辺 → 左辺の順に評価するよう変えて、
   **どのテストが落ちるか**を予想してから試す
4. `stage1-codegen` の出力を `clang` に直接渡し、自分のプログラムを動かす
5. **`selfhost/emit_ir.po` の IR（27,216 行）を眺めて**、
   自分が書いた Polonium のコードがどんな IR になっているか確かめる
