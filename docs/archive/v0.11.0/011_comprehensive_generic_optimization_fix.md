# Cm言語 ジェネリクス構造体と最適化問題の包括的修正案

作成日: 2026-01-10更新日: 2026-01-11対象バージョン: v0.11.0ステータス: 🟢 **完全解決** (2026-01-11)

## エグゼクティブサマリー

プロジェクト全体調査により、**queue<T>に構造体を入れると動作しない致命的問題**の根本原因を特定しました。また、インポート時の最適化無効化問題についても調査し、既に解決済みであることを確認しました。本文書では、これらの問題に対する包括的な修正案を提示します。

## 目次
1. [問題の概要](#1-問題の概要)
2. [根本原因の分析](#2-根本原因の分析)
3. [sizeof計算の致命的欠陥](#3-sizeof計算の致命的欠陥)
4. [インポート最適化問題（解決済み）](#4-インポート最適化問題解決済み)
5. [統合的な修正計画](#5-統合的な修正計画)
6. [実装ガイド](#6-実装ガイド)
7. [テスト計画](#7-テスト計画)

---

## 1. 問題の概要

### 現在の症状

```cm
// ❌ 動作しない
struct Item {
    int value;
    int priority;
}

Queue<Item> queue;  // メモリ破壊でクラッシュ

// ✅ 動作する
Queue<int> queue;   // プリミティブ型は偶然動作
```

### 影響範囲

- すべてのジェネリックコンテナ（queue, stack, priority_queue）
- C++風STL実装の完全ブロッカー
- メモリ安全性の致命的欠陥

---

## 2. 根本原因の分析

### 2.1 処理フローと問題発生タイミング

```
[ソースコード]
struct Node<T> { T data; Node<T>* next; }
        ↓
[Parser/AST]
ジェネリック構造体として認識
        ↓
[HIR Lowering]  ← ⚠️ 問題発生
sizeof(Node<T>) = 8バイト（誤り）
        ↓
[MIR Lowering]
モノモーフィゼーション: Node<Item> → Node__Item
        ↓
[LLVM IR生成]
正しいサイズだが、既に手遅れ
```

### 2.2 タイミング問題の詳細

| 段階 | 処理内容 | 問題 |
|------|----------|------|
| **HIR** | `sizeof(Node<T>)`計算 | ❌ Tが未具体化、8バイト固定 |
| **MIR** | モノモーフィゼーション | ✅ 正しいサイズ計算可能 |
| **LLVM** | 構造体レイアウト | ✅ 正しいが遅すぎる |

**核心的問題**: HIR段階でsizeofを計算するが、型の具体化はMIR段階で行われる

---

## 3. sizeof計算の致命的欠陥

### 3.1 現在の実装（バグあり）

**ファイル**: `src/hir/lowering/impl.cpp:486-599`

```cpp
int64_t HirLowering::calculate_type_size(const TypePtr& type) {
    switch (type->kind) {
        case ast::TypeKind::Struct: {
            // ❌ "Node<T>"を検索するが、"Node"として登録されている
            auto it = struct_defs_.find(type->name);
            if (it != struct_defs_.end()) {
                return calculate_struct_layout(...);
            }
            return 8;  // ❌ 見つからない場合8バイト
        }

        // ❌ TypeKind::Genericのケースが存在しない！
        default:
            return 8;  // ❌ すべてのジェネリック型が8バイト
    }
}
```

### 3.2 発生するメモリ破壊

```cm
struct Item { int x; int y; }       // 8バイト
struct Node<T> { T data; Node<T>* next; }  // 16バイト必要

<T> Node<T>* create(T data) {
    void* mem = malloc(sizeof(Node<T>));  // ❌ 8バイトしか確保
    Node<T>* node = mem as Node<T>*;
    node->data = data;  // ✅ 8バイト書き込み
    node->next = null;  // ❌ 範囲外！メモリ破壊
}
```

---

## 4. インポート最適化問題（解決済み）

### 4.1 現在の状態

**ファイル**: `src/codegen/llvm/native/codegen.hpp:254-259`

```cpp
// インポートがある場合の無限ループ回避
if (hasImports && options.optimizationLevel > 1) {
    // O2/O3をO1に降格（完全スキップではない）
    options.optimizationLevel = 1;
}
```

### 4.2 解決状況

**ドキュメント**: `docs/archive/v0.10/optimization_import_hang.md`

```
ステータス: ✅ 解決済み (2026-01-04)

実施済みの対策:
1. MIR最適化パイプラインv2
   - タイムアウト: 全体30秒、各パス5秒
   - 循環検出: ハッシュベースの状態履歴
   - 振動検出: 変更パターンの繰り返し検出

2. DCEパスの改善
   - Derefプロジェクションの使用追跡
   - フィールドプロジェクションのベース変数追跡

結果: O0/O1/O2/O3すべて成功
```

### 4.3 今後の対応

安全のためO2/O3をO1に降格しているが、将来的には完全に有効化可能。

---

## 5. 統合的な修正計画

### 5.1 修正の優先順位

| 優先度 | 項目 | 影響度 | 工数 |
|--------|------|--------|------|
| **P0** | sizeof計算修正 | 致命的 | 2-3日 |
| **P1** | 型置換の改善 | 重大 | 3-5日 |
| **P2** | 最適化の完全有効化 | 中 | 1-2日 |
| **P3** | テストスイート | 高 | 3-4日 |

### 5.2 段階的修正アプローチ

```mermaid
graph LR
    A[Phase 1: 緊急修正] --> B[Phase 2: 根本修正]
    B --> C[Phase 3: 最適化]

    A1[sizeof修正] --> A
    A2[メモリ安全性確保] --> A

    B1[型システム改善] --> B
    B2[MIR-HIR連携] --> B

    C1[最適化有効化] --> C
    C2[パフォーマンス] --> C
```

---

## 6. 実装ガイド

### 6.1 Phase 1: sizeof計算の緊急修正（1-2日）

```cpp
// src/hir/lowering/impl.cpp
int64_t HirLowering::calculate_type_size(const TypePtr& type) {
    switch (type->kind) {
        // 新規追加: ジェネリック型のケース
        case ast::TypeKind::Generic: {
            // 最悪ケースのサイズを返す（安全側）
            // 構造体の場合、暫定的に大きめのサイズを確保
            if (is_likely_struct(type)) {
                return 256;  // 暫定的に大きめ
            }
            return 8;  // ポインタサイズ
        }

        case ast::TypeKind::Struct: {
            // ジェネリック構造体名の処理を改善
            std::string base_name = extract_base_name(type->name);

            // "Node<T>" → "Node"を検索
            auto it = struct_defs_.find(base_name);
            if (it != struct_defs_.end()) {
                // 型引数を考慮したサイズ計算
                if (!type->type_args.empty()) {
                    return calculate_generic_struct_size(
                        it->second, type->type_args);
                }
                return calculate_struct_layout(it->second->fields);
            }

            // エラーではなく警告とし、安全なサイズを返す
            warn("Unknown struct type: {}", type->name);
            return 256;  // 安全側に倒す
        }

        default:
            return calculate_primitive_size(type);
    }
}

// 新規ヘルパー関数
int64_t calculate_generic_struct_size(
    const ast::StructDef* struct_def,
    const std::vector<TypePtr>& type_args) {

    // 型パラメータマッピング
    std::unordered_map<std::string, TypePtr> type_map;
    for (size_t i = 0; i < struct_def->generic_params.size(); ++i) {
        if (i < type_args.size()) {
            type_map[struct_def->generic_params[i].name] = type_args[i];
        }
    }

    // 各フィールドのサイズを計算
    int64_t total_size = 0;
    int64_t max_align = 1;

    for (const auto& field : struct_def->fields) {
        TypePtr field_type = substitute_generic_type(field.type, type_map);
        int64_t field_size = calculate_type_size(field_type);
        int64_t field_align = calculate_type_align(field_type);

        // アラインメント調整
        total_size = align_to(total_size, field_align);
        total_size += field_size;
        max_align = std::max(max_align, field_align);
    }

    // 構造体全体のアラインメント
    return align_to(total_size, max_align);
}

// ベース名抽出
std::string extract_base_name(const std::string& name) {
    size_t pos = name.find('<');
    if (pos != std::string::npos) {
        return name.substr(0, pos);
    }
    return name;
}
```

### 6.2 Phase 2: 型システムの根本修正（3-5日）

```cpp
// MIR段階での型情報をHIRに逆伝播する仕組み
class TypeResolutionCache {
private:
    std::unordered_map<std::string, int64_t> size_cache;

public:
    void register_monomorphized_size(
        const std::string& generic_name,
        const std::vector<TypePtr>& type_args,
        int64_t size) {

        std::string key = mangle_type_name(generic_name, type_args);
        size_cache[key] = size;
    }

    std::optional<int64_t> get_cached_size(
        const std::string& generic_name,
        const std::vector<TypePtr>& type_args) {

        std::string key = mangle_type_name(generic_name, type_args);
        auto it = size_cache.find(key);
        if (it != size_cache.end()) {
            return it->second;
        }
        return std::nullopt;
    }
};
```

### 6.3 Phase 3: 最適化の完全有効化（1-2日）

```cpp
// src/codegen/llvm/native/codegen.hpp
void LLVMCodeGen::applyOptimizations() {
    // より細かい制御
    if (hasImports) {
        // 特定の問題パターンのみ検出
        if (detect_problematic_import_pattern()) {
            // 問題のある最適化パスのみ無効化
            disable_specific_passes({"aggressive-dce", "loop-unroll"});
        } else {
            // 通常の最適化を適用
            apply_full_optimization();
        }
    }
}
```

---

## 7. テスト計画

### 7.1 ユニットテスト

```cm
// tests/generic_struct_sizeof_test.cm
struct SmallStruct { int x; }           // 4バイト
struct MediumStruct { int x; double y; } // 16バイト
struct LargeStruct { long[32] data; }   // 256バイト

<T> void test_sizeof() {
    assert(sizeof(T) > 0, "Size must be positive");
    assert(sizeof(T) % alignof(T) == 0, "Size must be aligned");
}

int main() {
    test_sizeof<SmallStruct>();
    test_sizeof<MediumStruct>();
    test_sizeof<LargeStruct>();

    // ジェネリックコンテナテスト
    Queue<SmallStruct> q1;
    Queue<MediumStruct> q2;
    Queue<LargeStruct> q3;

    return 0;
}
```

### 7.2 統合テスト

```cm
// tests/queue_struct_integration_test.cm
struct Person {
    string name;
    int age;
    double height;
}

void test_queue_operations() {
    Queue<Person> queue;

    Person p1 = {name: "Alice", age: 30, height: 1.65};
    Person p2 = {name: "Bob", age: 25, height: 1.80};

    queue.enqueue(p1);
    queue.enqueue(p2);

    Person p = queue.dequeue();
    assert(p.name == "Alice");
    assert(p.age == 30);
}
```

### 7.3 メモリ安全性テスト

```bash
# Valgrindでメモリリークとオーバーフローを検出
valgrind --leak-check=full --track-origins=yes \
    ./build/bin/cm tests/queue_struct_test.cm

# AddressSanitizerを有効化
cmake -B build -DCMAKE_CXX_FLAGS="-fsanitize=address"
cmake --build build
./build/bin/cm tests/queue_struct_test.cm
```

---

## 8. 期待される成果

### 8.1 即座の効果（Phase 1完了時）

- ✅ queue<構造体>が動作
- ✅ メモリ破壊の解消
- ✅ セグメンテーションフォルトの防止

### 8.2 中期的効果（Phase 2完了時）

- ✅ 任意の型でのジェネリクス完全サポート
- ✅ C++のSTLと同等の型安全性
- ✅ コンパイル時の型チェック強化

### 8.3 長期的効果（Phase 3完了時）

- ✅ 最適化レベルO3の完全有効化
- ✅ 2-5倍のパフォーマンス向上
- ✅ C/C++の80-95%の性能

---

## 9. リスクと緩和策

| リスク | 影響度 | 発生確率 | 緩和策 |
|--------|--------|----------|--------|
| sizeof過大評価によるメモリ浪費 | 中 | 高 | Phase 2で正確な計算実装 |
| 既存コードの破壊 | 高 | 低 | 包括的テストスイート |
| パフォーマンス低下 | 中 | 中 | プロファイリング継続 |

---

## 10. アクションアイテム

### 即座に実施（今日中）

- [ ] sizeof計算にTypeKind::Genericケースを追加
- [ ] 安全側のサイズ（256バイト）を暫定返却
- [ ] 緊急テストの実施

### 今週中に実施

- [ ] calculate_generic_struct_size()の実装
- [ ] モノモーフィゼーション改善
- [ ] 統合テストスイート作成

### 今月中に実施

- [ ] 型システムの根本改善
- [ ] 最適化の完全有効化
- [ ] ドキュメント整備

---

## 11. まとめ

### 最重要ポイント

1. **sizeof計算の欠陥が根本原因** - ジェネリック構造体が常に8バイトとして扱われる
2. **インポート最適化問題は解決済み** - 安全のためO1に降格しているだけ
3. **修正は段階的に可能** - まず緊急修正で動作させ、その後根本改善

### 技術的洞察

**問題の本質**: HIR段階でのsizeof計算時に、MIR段階のモノモーフィゼーション情報が利用できないというアーキテクチャ上の制約。

**解決の方向性**:
1. 短期: 安全側のサイズ推定
2. 中期: 型情報の段階間共有
3. 長期: sizeof計算の遅延評価

### 成功の指標

- queue<任意の型>が動作
- メモリリーク/破壊ゼロ
- パフォーマンス改善2倍以上

---

**作成日**: 2026-01-10 **作成者**: Claude **レビュー**: 未実施**次のステップ**: Phase 1の緊急修正を即座に実施