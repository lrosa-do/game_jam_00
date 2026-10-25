# VM Bugs

## 1. Fiber errors are swallowed by `resume`

- Severity: high
- Location: `libzen/src/vm_dispatch.cpp`, `OP_RESUME`
- Problem: after `execute(target)`, the caller always resumes and consumes `target->transfer_value` without checking `had_error_` or `target->state == FIBER_ERROR`.
- Impact: a failing fiber can leave the caller running with stale or invalid state.
- Status: not reproduced yet with `await error("...")`; needs a narrower repro before changing code.

## 2. Fiber errors are swallowed by fiber iteration

- Severity: high
- Location: `libzen/src/vm_dispatch.cpp`, `OP_FOR_ITER`
- Problem: the fiber iteration path resumes the target fiber and continues execution without checking whether the target transitioned to `FIBER_ERROR`.
- Impact: generator or fiber failures can be silently ignored by the consumer loop.
- Status: fixed in branch `bugs/catch`.

## 3. `fiber->error` is never populated

- Severity: medium
- Location: `libzen/src/vm.cpp`, `runtime_error()`
- Problem: fibers carry an `error` field and GC marks it, but `runtime_error()` only flipped `FIBER_ERROR` and never stored an error object or message there.
- Impact: consumers such as `await` degraded to reporting `unknown` instead of the actual failure cause.
- Status: fixed in branch `bugs/catch`.

## 4. `had_error_` is sticky across VM entry points

- Severity: medium
- Location: `libzen/src/vm.cpp`
- Problem: public execution entry points like `run`, `call_global`, `call_fn`, `invoke`, and `resume_fiber` did not reset `had_error_` before starting a fresh execution.
- Impact: a previous runtime error could leak into later embedding calls and cause misleading control flow.
- Status: fixed in branch `bugs/catch`.

## 5. `runtime_error()` bypasses VM callbacks

- Severity: medium
- Location: `libzen/src/vm.cpp`, `runtime_error()`
- Problem: errors were printed directly to `stderr` instead of using the configured `print_err` callback from `ZenCallbacks`.
- Impact: embedded hosts could not reliably redirect or capture runtime diagnostics.
- Status: fixed in branch `bugs/catch`.

## 6. Division and modulo by zero did not raise runtime errors

- Severity: high
- Location: `libzen/src/vm_dispatch.cpp`, `OP_DIV`, `OP_DIV_OBJ`, `OP_MOD`, `OP_MOD_OBJ`
- Problem: `/` returned IEEE float results and `%` returned `0` or `NaN` instead of raising a runtime error on zero divisors.
- Impact: scripts could continue after invalid arithmetic instead of stopping with a deterministic runtime error.
- Status: fixed in branch `bugs/catch`.

## 7. Array out-of-bounds read returned `None` silently

- Severity: high
- Location: `libzen/src/vm_dispatch.cpp`, `OP_GETINDEX`
- Problem: `array_get()` returns `val_nil()` when the index is out of range, and `OP_GETINDEX` did not check bounds — both positive and negative OOB indices silently produced `None`.
- Impact: scripts could silently use a `None` from a bad index and continue running, hiding data access bugs.
- Note: `OP_SETINDEX` and `OP_ITER_ELEM` already had bounds checks; this was an inconsistency.
- Status: fixed in branch `bugs/catch`.

## 8. Bitshift by out-of-range amount was silently wrong

- Severity: low
- Location: `libzen/src/vm_dispatch.cpp`, `OP_SHL`, `OP_SHR`
- Problem: shift amount was masked with `& 63` before use, so `1 << 64` returned `1` and `1 << -1` returned `INT64_MIN` with no error.
- Impact: silently wrong results on bad shift amounts.
- Status: fixed in branch `bugs/catch` — now raises `shift amount out of range`.

## 9. Tuple unpack mismatch was silent

- Severity: medium
- Location: `libzen/src/compiler_statements.cpp`, multi-assign parsing
- Problem: `a, b = 1, 2, 3` silently discarded the extra value; `a, b, c = 1, 2` silently left `c` as `None`. Python raises `ValueError` in both cases.
- Impact: data bugs masked at compile time.
- Status: fixed in branch `bugs/catch` — now raises a compile error with expected/got counts.

## Open item

- Revisit `OP_RESUME` error propagation only after a minimal failing repro exists.em bugs.md 


# Zen VM Bug Hunting Guide

## Project Structure
- `libzen/src/vm_dispatch.cpp` — Main VM dispatch loop, ALL opcodes (~4100 lines)
- `libzen/src/vm.cpp` — VM setup, fiber management, invoke_operator, close_upvalues
- `libzen/src/memory.cpp` — GC, allocators, string ops, object constructors
- `libzen/include/zen/object.h` — Obj base struct, ObjString, all object types
- `libzen/include/zen/value.h` — Value union (VAL_INT, VAL_FLOAT, VAL_BOOL, VAL_OBJ, VAL_NIL)
- `libzen/include/zen/vm.h` — VM class, kMaxFrames=2000
- `libzen/src/bytecode.cpp` — Compiler output, closure creation
- `libzen/src/compiler.cpp` — Compiler (not audited yet)

## Build Commands
- **Debug (ASAN+UBSan):** `cd build && ninja zen` → `bin/zen`
- **Release (-O3):** `cd build_release && ninja zen` → `bin/zen`
- Both write to same `bin/zen` — last build wins!
- **Run all tests:** `for f in tests/*.py; do result=$(timeout 30 bin/zen "$f" 2>&1 | tail -1); echo "$f: $result"; done`

## VM Architecture (key concepts for finding bugs)

### Register-based VM with overlapping frames
- Each function has `fn->num_regs` registers allocated in a contiguous stack
- Call frames OVERLAP: `new_frame->base = &R[a + 1]` (normal call) or `&R[a]` (__init__)
- This means callee's register 0 = caller's register `a+1`
- Stack is flat: `fiber->stack[0..stack_capacity]`, frames are windows into it
- `fiber->stack_top` points to end of topmost frame's registers

### GC: Mark-sweep, arena allocator
- `zen_alloc()` triggers GC if threshold exceeded
- `zen_alloc_now()` does NOT trigger GC (used for small internal allocs)
- GC roots: fiber stack (all Values from stack to stack_top), globals, open upvalues
- **GC danger pattern:** Getting a raw `Obj*` pointer, then calling something that allocates (triggers GC), then using the pointer → use-after-free if object wasn't rooted

### Fibers (coroutines/generators)
- Main fiber: stack_capacity = kMaxFrames*16 = 32000 Values
- Generator fibers: stack_capacity = max(256, fn->num_regs), max_frames = kMaxFrames
- Fiber states: READY → RUNNING → SUSPENDED (yield) → RUNNING (resume) → DONE
- `fiber->transfer_value` passes values between yield/resume
- `fiber->yield_dest` = register index in suspended frame where resume value goes
- `fiber->caller` = fiber that resumed this one

### String system (already fully audited)
- ObjString: flexible array member `chars[]`, has `length`, `capacity`, `interned` flag
- `OBJ_FLAG_SHARED` on `obj.flags` — set when string escapes to another location
- `string_append_inplace` — O(1) amortized, only used for `s += x` (A==B in OP_ADD)
- `new_string_concat` — always allocates new string
- Interned strings: hash-consed, used for identifiers/constants, never modified

## What Was Already Audited & Fixed

### String safety (COMPLETE — 20 escape points, 60 tests, debug validator)
All paths where a string reference can escape to another location now mark OBJ_FLAG_SHARED.
See `/memories/repo/string-safety.md` for full list.

### Stack overflow protection (DONE)
- `CHECK_STACK_SPACE(fiber, base, num_regs)` macro added at ALL 7 call sites
- `invoke_operator` in vm.cpp also checks frame_count + data bounds
- Generator fibers now get 256 Values minimum (was fn->num_regs = ~16)

### Integer overflows (DONE for known paths)
- OP_MUL string repetition: uses int64 multiply + overflow check
- new_string_concat: int64 length check
- string_append_inplace: overflow check on new_len
- OP_FOR_ITER range: removed int32 truncation casts

## What Has NOT Been Audited Yet (next areas to check)

### 1. Compiler (HIGH PRIORITY)
- `libzen/src/compiler.cpp` — NOT audited at all
- Could emit invalid bytecode (wrong register indices, bad upvalue descriptors)
- Could have buffer overflows in constant tables, local variable tables
- Could have off-by-one in scope management

### 2. GC safety during allocation sequences
- Pattern to grep for: any code that does `as_string(X)` or `as_instance(X)` to get a raw pointer, then calls a function that may allocate (new_string, new_array, zen_alloc, etc.), then uses that raw pointer
- Especially dangerous in: OP_ADD (string coercion path), OP_FSTRING, OP_STRADD, native functions
- The `invoke_operator` path is somewhat risky: it writes to `fiber->stack_top` (which IS a GC root) before allocating, so it should be safe, but worth double-checking
- Search: `grep -n "as_string\|as_instance\|as_array\|as_map" vm_dispatch.cpp | head -80`

### 3. Native function safety
- Native functions receive `(VM *vm, Value *args, int nargs)` but many don't validate nargs or types
- Location: `modules/` directory — each module registers native functions
- Pattern: look for `args[N]` without checking `nargs > N` or type checks
- Also check: do native functions that store Values into containers mark them as shared?

### 4. Map/Set operations
- `libzen/src/memory.cpp` — map_set, map_get, set_add, set_has
- Hash collision handling: linear probing, could have subtle bugs
- Map growth: `realloc()` not checked for NULL return
- Map key deletion: tombstone handling — could leave stale entries
- Iterator invalidation: modifying map while iterating over it

### 5. Array operations
- `array_push`, `array_pop`, `array_insert`, `array_remove`
- Capacity growth: `grow_capacity()` could overflow int32
- Negative index handling in OP_GETINDEX, OP_SETINDEX
- Slice operations: mostly audited, looks OK after clamping

### 6. Error handling / error recovery
- When `runtime_error()` is called, does it clean up properly?
- Are open upvalues closed? Are fibers marked as error?
- Can a script catch errors and continue with corrupted state?
- Pattern: look for `had_error_` checks — are they always checked after calls that can error?

### 7. Import system
- `vm.cpp` — import_script_module, import_native_module
- Module fiber created with stack_capacity=256 — same issue as generators (now fixed)
- Module globals: are they properly shared-marked? (OP_SETGLOBAL marks them, but direct C API `def_global` might not)
- Circular import detection: is it robust?

### 8. Eval (OP_EVAL)
- Compiles and runs arbitrary code in a new frame
- The compiled function shares the same fiber/stack — could interact badly with caller state
- Closure captures from eval'd code: do upvalue descriptors point to valid locations?

### 9. Class system edge cases
- Multiple inheritance: NOT supported (single parent only), but what if user tries?
- Operator overloading: slots array bounds — `klass->operator_slots[slot]` with slot from 0..SLOT_OPERATOR_COUNT
- `__init__` with wrong return type: what if __init__ returns a value?
- Field access on nil/non-instance: type checks in OP_GETFIELD, OP_SETFIELD

### 10. Upvalue edge cases
- `close_upvalues()` — assumes `upval->location` is valid (could dangle if stack corrupted)
- Upvalue chains: `fiber->open_upvalues` is a sorted linked list, if sorting invariant breaks → infinite loop
- Cross-fiber upvalues: a closure captured in one fiber used in another — are upvalue locations still valid?

## Debugging Techniques

### ASAN (Address Sanitizer)
- Debug build has `-fsanitize=address,undefined` 
- Catches heap-buffer-overflow, use-after-free, stack-buffer-overflow, UB
- If ASAN fires, the stack trace shows EXACTLY where the bad access happened

### Debug validator (string safety only)
- `#ifndef NDEBUG` block in OP_ADD: exhaustive scan of ALL frames/globals/upvalues/fibers before in-place string mutation
- If it finds an alias, fires `assert(false)` with description
- Only active in debug build (not release)

### Reproduce-then-fix workflow
1. Write a .py test that triggers the bug
2. Run with debug build (ASAN catches memory issues)
3. Fix the C++ code
4. Run full test suite: `for f in tests/*.py; do ...`
5. Build release and verify benchmarks don't regress

### Useful grep patterns
```bash
# Find all places where raw Obj* pointers are obtained
grep -n "as_string\|as_instance\|as_array\|as_map\|as_closure\|as_fiber" vm_dispatch.cpp

# Find all allocation calls (potential GC triggers)
grep -n "new_string\|new_array\|new_map\|new_set\|zen_alloc\b\|alloc_obj" vm_dispatch.cpp

# Find all frame pushes (need stack bounds check)
grep -n "frame_count++" vm_dispatch.cpp vm.cpp

# Find all register writes without bounds check
grep -n "R\[.*\] =" vm_dispatch.cpp | head -50

# Find all native function registrations
grep -rn "def_native\|register_fn\|add_method" modules/
```

## Test Files (48 total, all pass)
- tests/01-19: Language features (print, functions, classes, generators, etc.)
- tests/20-23: Edge cases, scope, stress tests
- tests/24-30: Modules (buffers, structs, numpy, io, os, path, json)
- tests/31-37: Async/await, signals, net, http, match, records, enums
- tests/38-39: Operators, VM edge cases
- tests/40-42: GC torture (3 levels)
- tests/43-45: String safety (3 levels, 60 tests total)
- tests/basic.py, bench_*.py, fib.py: Benchmarks

## Performance Baselines (release -O3)
- bench_math: ~0.047s
- fib(20): ~0.072s  
- bench_full (list 500K): ~0.033s
- string 100K build: ~0.002-0.004s



Medições atuais, no mesmo core:

| Demo | Zen | Lua | Wren | Python |
|---|---:|---:|---:|---:|
| fib | 0,246s | 0,109s | 0,209s | 0,245s |
| for_loop | 0,199s | 0,042s | 0,143s | 0,489s |
| method_call | 0,207s | 0,185s | 0,095s | 0,191s |
| binary_trees | 0,360s | 0,515s | 0,206s | 0,367s |

`for_loop` é o caso mais claro. Como corre no topo do módulo, `sum` e `i` são globais. Cada volta faz:

```text
GETGLOBAL i, LOADK limite, LT, JMPIFNOT,
GETGLOBAL sum, GETGLOBAL i, ADD, SETGLOBAL sum,
GETGLOBAL i, ADDI, SETGLOBAL i, JMP
```

São 12 instruções por iteração. A mesma lógica dentro de `def loop()` caiu de 0,199s para 0,150s só porque passa a usar registos locais. Isto é um ganho geral, não um opcode de bunnymark.

O próximo trabalho deve ser:

1. Fechar o compilador de loops:
   - `i += 1` hoje gera `LOADI 1 + ADD`; devia emitir `ADDI`, como já faz `i = i + 1`.
   - `while i < limite` ainda gera `LT` e `JMPIFNOT` separados, apesar de já existir `OP_LTJMPIFNOT`.
   - constantes como `5000000` são carregadas em cada volta; num loop local podem ficar num registo antes do loop.
   - terminar a emissão do `for` numérico geral; `OP_FORPREP/OP_FORLOOP` já existe, mas o compilador ainda não o usa.

2. Fechar chamadas normais:
   - `fib()` ainda compila para `GETGLOBAL fib` + `CALL`.
   - `OP_CALLGLOBAL` já existe na VM, mas o compilador nunca o emite.
   - usar isso em toda chamada direta a função global beneficia fib, helpers, callbacks e jogos.

3. Inferência de tipo local para chamadas:
   - `toggle = Toggle(...)` já prova o tipo de `toggle`, mas o compilador esquece isso.
   - `activate()` devolve `self`, mas o compilador não propaga `Self` para `activate().value()`.
   - se propagar esses factos, usa os `INVOKE_VT_FAST` que já criámos, sem inventar outro caminho para o demo.

4. `binary_trees` já está bem melhor:
   - Zen está ao nível de Python e bate Lua neste caso.
   - o que falta é tipo de campos, por exemplo `left: Tree?`, para `self.left.check()` deixar de ser dispatch dinâmico.



### Estado (2026-09-06, branch perf/lua-hot-path-gc)

Feito, cada ponto num commit, suite 60/60 (3 testes novos: 56, 57, 58):

1. Loops: `i += 1` → ADDI e `while a < b` → LTJMPIFNOT já estavam; agora
   também `if`/`elif` fundem a comparação, a constante de `while i < 5000000`
   é carregada uma vez antes do loop, e `for i in range(...)` compila para
   FORPREP/FORLOOP (contagem fixa à entrada, 1 dispatch por volta).
2. Chamadas: `fib()` compila para CALLGLOBAL (a VM lê a global para R[A] e
   segue o caminho do OP_CALL, logo classes/bound methods/erros iguais).
3. Inferência: `toggle = Toggle(...)` regista a classe (local ou global de
   módulo); `activate()` que devolve self (`-> Self` ou todos os `return`
   são `return self`) propaga a classe em `activate().value()`; ambos os
   elos saem INVOKE_VT. INVOKE_VT passou a 2 palavras com fallback para
   OP_INVOKE, portanto nunca muda comportamento.
4. `local = expr` / `return expr` escrevem o resultado direto no registo
   destino (sem MOVE) quando o RHS é linear.

Medições (mesma janela, best of 3): fib 0,271→0,204s; for_loop (globais)
0,162→0,157s; for_loop com locais 0,104→0,061s (Lua 0,042s); method_call
0,238→0,189s; binary_trees 0,371→0,339s. Tabela completa em
tests/manual/cross_lang_bench/RESULTS.md.

Bugs pré-existentes corrigidos pelo caminho: OP_INVOKE não empacotava
`*args` em métodos variádicos com receptor dinâmico; `resolve_upvalue`
marcava `captured` no local com índice==registo, por isso uma variável de
loop capturada por closure nunca recebia OP_CLOSE (as lambdas viam lixo).

Bunnymark raylib (tests/manual/bunnymark_raylib, 4 linguagens, mesmo host,
mesma classe Bunny, 60 fps): Zen 70 400, Lua 63 000, Wren 54 600, Python
30 800 sprites.

Próximo: o que resta no method_call é custo por chamada (push de frame,
dois memsets de registos, LOAD_STATE, limpeza no RETURN) — ~49 ns por
call+return; `Toggle.value` já são só 2 instruções. Ponto 4 (tipo de campos
`left: Tree?`) continua por fazer.


### Ronda 2 (2026-09-06, commits 6c7b950..415a011)

Modelo de custo com microbenchmarks (função vazia, 3 args, 33 registos,
método tipado/dinâmico) + profiler por opcode (`-DZEN_OPCODE_PROFILE`, rdtsc
em cada DISPATCH; comparar opcodes entre si, não com o relógio). Conclusões:
INVOKE vs INVOKE_VT < 1 ns; o custo estava no call/return (~20 ns → ~16 ns
agora; Lua ~9 ns) e, em binary_trees, na construção `Tree(...)` (36% do
tempo: `intern_string("__init__")` + `map_get` em cada construção).

Feito:
- `__init__` resolvido pela vtable (slot do selector; `init_selector_` fica
  definido quando o nome é internado, também via bytecode carregado);
  `new_instance` sem pause/resume do GC.
- Fast path de chamada em OP_CALL/OP_INVOKE (um teste: aridade exacta, sem
  defaults/*args, não genérico, não generator); `clear_new_regs` em stores
  directos para frames pequenos; memset de saída do RETURN removido
  (registos foram vistos vivos pelo GC; ficam conservadoramente vivos até
  serem reutilizados, como em Lua); `call_global`/`call_fn` limpam o frame.
- Saltos fundidos: `x < 2`/`<=`/`>`/`>=` com literal int8
  (LTI/LEI/GTI/GEI JMPIFNOT, 2 palavras) e `x == None`/`!= None`/`is None`
  (JMPIFNIL/JMPIFNOTNIL identidade; JMPIFEQNIL/JMPIFNEQNIL respeitam
  `__eq__`). Bytecode 2.5.
- `for x in iterável` com OP_FOR_NEXT no fim do corpo (1 dispatch/iteração,
  arrays primeiro); local lido como operando esquerdo/objecto de acesso já
  não é copiado para `dest`; LOAD_STATE sem o ramo de closure nulo.

Medições finais do dia (best of 3, mesma janela): fib 0,271→0,161s (Lua
0,109); for_loop locais 0,104→0,061s (Lua 0,042); method_call 0,238→0,167s
(Lua 0,176); binary_trees 0,371→0,243s (Lua 0,547, Python 0,367).

Pré-existente, encontrado agora e NÃO corrigido: `v > 2` / `2 < v` com `v`
instância que define `__gt__` devolve False — o compilador troca operandos
(`LT 2, v`) e a VM despacha pelo slot `__lt__` sem reflectir para `__gt__`.
Igual antes e depois desta ronda (tests/59 não o fixa).

Próximos candidatos: GETFIELD verificado (2 palavras: idx + nome) para
receptores de classe estática que não a actual (parâmetros anotados
`e: Enemy`, locais inferidos de outra classe, elementos `Array[T]`) — hoje
só `self`/classe actual usam GETFIELD_IDX; o resto faz varrimento linear
por nome. E o custo restante por chamada (frame push + LOAD_STATE).

- Acesso a campos verificado (commit 15a3d81): `OP_GETFIELD_IDXC`/`OP_SETFIELD_IDXC`
  (palavra 1 = índice directo aceite só se `klass->field_names[idx]` for o
  nome pedido; palavra 2 = o GETFIELD/SETFIELD por nome original, executado
  caso contrário). Emitidos para qualquer receptor de classe estática que
  não `self`: parâmetros anotados, locais inferidos, elementos `Array[T]`,
  cadeias que devolvem self, globais de módulo. As anotações de parâmetros
  (`p: P`, `xs: Array[T]`) passam a ser registadas como tipo do local, logo
  `p.x` usa o índice verificado e `p.m()` a vtable. Só `self` mantém o
  GETFIELD_IDX sem verificação. Microbench `sum5(p: P)` com 5 campos:
  0,092→0,075s (−19%). Suite 63/63.


### Ronda 3 (2026-09-06, commit d042203)

- FIX `a > b` / `a >= b` em instâncias: o compilador troca para `LT b, a` e a
  VM usava o mesmo slot como reflexo, logo `__gt__`/`__ge__` nunca eram
  chamados (corria `__lt__`/`__le__` com operandos trocados). Slots novos
  `SLOT_GT`/`SLOT_GE` como reflexo de LT/LE (kOperatorSlotCount 16→18).
- FIX `obj.campo += x` em receptor que não `self` era ERRO DE COMPILAÇÃO
  ("Expected expression"). Agora compila (índice verificado se a classe é
  conhecida; ADDI/SUBI para literais pequenos; `self` ganha `//=` e `**=`).
- `if x == 0` / `while n != 0`: OP_EQIJMPIFNOT/OP_NEIJMPIFNOT (literal int8).
- Classe inferida por campo: `self.left = Tree(...)` (só construtores de uma
  classe, ou None) → `self.left.check()` é INVOKE_VT e `self.left.item` é
  GETFIELD_IDXC; formas verificadas, um palpite errado só custa velocidade.
- `ObjFiber::stack_end` para o CHECK_STACK_SPACE; OP_RETURN com fast path
  de um teste (1 valor, caller script, sem stop depth). call_f0 0,130→0,126s.
- Microbenchmarks guardados em tests/manual/microbench (README com números).

Estado final do dia (best of 3): fib 0,160s (Lua 0,109) · for_loop locais
0,061s (Lua 0,042) · method_call 0,166s (Lua 0,176) · binary_trees 0,243s
(Lua 0,547, Wren 0,206) · call+return ~15 ns (Lua ~9) · suite 64/64 + stress-GC.

### Ronda 4 (2026-09-07, commits 5e0cef0..7cf79a8)

Baseline do dia (best of 3) igual à de ontem: fib 0,163 · method_call 0,167 ·
call_f0 0,129 — comparar sempre intercalado.

- **Frames a partir de registos** (5e0cef0): o LOAD_STATE depois de um push
  relia `fiber->frame_count` (acabado de escrever) e depois cada campo do
  frame (acabados de escrever): cadeia store→load forwarding em cada chamada.
  `ENTER_FRAME(nf, fn, cl, base)` põe frame/ip/R/K/UV a partir dos valores
  ainda em registos; `LOAD_STATE_FROM(caller_frame)` no RETURN. `CallFrame`
  ganhou `constants`/`upvalues` (sem loads dependentes `func->`/`closure->`).
  Só guardar constants/upvalues no frame não deu nada mensurável; o ganho
  veio de evitar o round-trip por `frame_count`. call_f0 0,129→0,110,
  fib 0,162→0,134, method_call 0,168→0,128. call+return ~15→~12,6 ns.
- **`OP_INVOKE_R` / `OP_INVOKE_VT_R`** (0b54b22, bytecode 2.6): receptor
  local não capturado (`b.m()`, `self.m()`) vai em C; a VM copia para a
  base. `invoke_nresults` (function scope, como `call_a`) é fixado a 1 pelas
  formas _R e lido de C por INVOKE/INVOKE_VT; todos os `goto op_invoke_entry`
  passam por aí. Multi-assign (`a, b = o.m()`) faz `patch_c_at` no C da
  chamada → `multi_assign_rhs_` suprime a forma _R nesse RHS. Local capturado
  mantém o MOVE (um closure nos argumentos podia reatribuir o receptor).
  Sem ganho mensurável (o MOVE corria em paralelo com a cadeia de
  dependências da chamada), mas menos bytecode e um dispatch a menos.
- FIX `obj.m(a, *xs)`: OP_INVOKE nunca desempacotava a lista (B=0x80|n
  usado como contagem → 129 argumentos de lixo). Mesmo em OP_SUPER_INVOKE.
- FIX `super().m(...)` para método `*args` do pai nunca empacotava os extras.
- FIX `x is not None` era `x is (not None)` → sempre False (5151fd3).
  `comparison()` consome o `not` depois de `is`; funde para JMPIFNIL.
- **Anotações de campo no corpo da classe**: `item: int = 0`, `left: Node?`,
  `right: Node | None = None`, `tag: str` (sem `=`: só declara). Alimentam
  `class_field_class_` com estado 3 (anotado; a inferência nunca o altera;
  `field_class_guess` aceita 1 ou 3). Parâmetros e locais aceitam o mesmo
  sufixo `?` / `| None` (`skip_nullable_suffix()`); `?` é TOK_QMARK novo.
- **Comprehensions** (lista/dict/set) com o loop do for_statement
  (JMP de entrada + OP_FOR_NEXT): 1 dispatch por elemento em vez de 5, e
  iteram ranges/strings/generators (antes só indexáveis). Filtro fundido
  por `emit_cond_jump`.
- **Local lido no sítio antes de `.`/`[`/`(`** (7cf79a8): `n = self.item`
  gerava MOVE R1=R0 + GETFIELD por nome (o receptor deixava de ser reg 0).
  `named_variable()` devolve o registo do local se `chain_continues()`.
  Microbench `selffield` 0,191→0,126s (−34%).
- tests/62 (INVOKE_R e spreads) e tests/63 (is not, anotações, comprehensions).
  Suite 66/66 + stress-GC. Docs: README (tabela dos opcodes do hot path e
  "tipo estático é dica"), RESULTS.md com Wren de volta via `wren_test`.

Estado final do dia (best of 3): fib 0,134 (Lua 0,109, Wren 0,208) ·
for_loop globais 0,158 (Wren 0,159) · for_loop locais 0,064 (Lua 0,044) ·
method_call 0,131 (Lua 0,175, Wren 0,109) · binary_trees 0,266 (Wren 0,245,
Lua 0,560) · call+return ~12,6 ns (Lua ~9,8).

### Ronda 4b (2026-09-07, tarde: benchmarks de algoritmos → codegen)

Mudança de rumo pedida pelo utilizador: pausa nas micro-optimizações da VM,
medir cargas reais e só mexer onde o perfil mostra margem. Benchmarks em
`tests/manual/algo_bench/` (A*, Dijkstra, quadtree, octree, Hanói, flood
fill; Zen/Python/Lua/Wren; mesmo `py/*.py` corre em CPython e Zen; checksums
iguais; `run.sh` faz a tabela). Perfil por opcode do Dijkstra: 18% MOVEs.

- `a[i] = expr`: contentor/índice locais já não são copiados para registos
  auxiliares antes do RHS (2 MOVEs por store).
- Condições `if`/`elif`/`while`: `condition()` compila cadeias `and`/`or`
  como saltos (sem booleano, sem MOVE); `cond_false_jump()` transforma
  `not x` em JMPIF e `a != b` em NEJMPIFNOT; `EQJMPIFNOT`/`NEJMPIFNOT`
  registo-registo (bytecode 2.7); `if` sem `else` deixa de executar um
  `JMP +0` no fim do corpo.
- FIX `not a == b` era `(not a) == b` (operando do `not` agora inclui
  comparações). FIX fusão de branch em comparações encadeadas
  (`a != b != c`): o salto de curto-circuito aterrava no compare fundido;
  `cmp_chain_end_` recusa fusão nesse ponto (o bug do LT existia antes).
- `OP_RETURNNIL` (return vazio / fim de função): fast path próprio; neutro
  no Hanói (o LOADNIL corria em paralelo com a cadeia call/return), mas
  microbench `call_m_void` 0,169→0,158s (−6,5%): o `update()` típico de jogo.
- Resultado: Dijkstra 0,227→0,188s, octree 0,087→0,071, quadtree
  0,062→0,053, astar 0,062→0,056; dispatches −25%. Tabela completa em
  tests/manual/algo_bench/README.md (Zen à frente de Python e Wren em
  tudo; Lua ganha 10-20% só em Dijkstra e flood fill).
- Lições: remover trabalho independente (MOVE do receptor, LOADNIL) não
  mexe no tempo — o loop é latency-bound na chamada; só encurtar cadeias de
  dependência (ENTER_FRAME) ou tirar dispatches do caminho de dados
  (holds, `and`) conta. Subconjunto Python/Zen partilhado documentado no
  README do algo_bench.
- Sobra (medido, não feito): GETGLOBAL de constantes de módulo dentro de
  funções (5% do Dijkstra; Lua usa upvalues), MOVE do resultado de chamada
  para um local (`cur = heap.pop()`, 2,4%), APPEND a ~46 ciclos nas
  comprehensions grandes (crescimento do array), marshalling de argumentos
  (22% do Hanói, inerente).

### Ronda 5 (2026-09-07, noite: cobertura Python pelo método diferencial)

Critério combinado com o utilizador: **não somos uma cópia do Python; sem
crash e com resultado previsível está bom.** Ferramenta: `tools/diff_cpython.py`
corre cada `tests/diff/*.py` chunk a chunk em CPython e Zen e compara a
saída (um chunk que o Zen não compila fica de fora dos seguintes; cascatas
detectadas por nome). Corpus de 10 ficheiros por tema. Evolução: 159 →
258 chunks iguais; compile-errors 58 → 24; runtime-errors 86 → 34.

Corrigido (commits 86aa4e8, fa5a159, b88b02d, bf83647):
- **Resultados errados silenciosos**: `for x in [literal]` saltava o 1.º
  elemento (índice do FOR_NEXT não era iter_reg+1, temporários do literal
  ainda alocados; também nas comprehensions); `lambda x: f(g(x))` esmagava
  o parâmetro (corpo compilado para R0); `print(x, end="")` compilava como
  atribuição a uma global `end`; `True + True` = 0 e `True == 1` False;
  `[1] + [2]`, `[0] * n` davam 0; `[1] < [1, 0]` False; `-5.0 % 2` = -1;
  `strip("x")`, `int(s, base)`, `replace(a, b, n)`, `find(s, start)`
  ignoravam argumentos; `str([1])` = `<array>`; `filter` ignorava 0;
  `xs.sort(reverse=True)` ignorado; `{1,2} == {2,1}` False; `max` de
  instâncias com `__lt__` errado; `"%d %s" % (1, "a")` era "modulo by zero";
  `round(2.675, 2)` = 2.68; `zen /dev/stdin` buffer overflow (ftell).
- **Novo**: builtins abs min max round sum sorted reversed any all list
  tuple set dict bool repr chr hex oct bin divmod pow callable getattr
  hasattr (a tabela tinha `41` hardcoded: tudo o que vinha depois
  desaparecia!); kwargs para nativos (mapa no último slot, flag 0x40,
  `vm->kwargs()`; `sorted(key=, reverse=)`, `min/max(key=, default=)`,
  `dict(a=1)`, `print(sep=, end=)`); genexpr como argumento; comprehensions
  com vários `for`/`if` e alvos em tuplo (`comprehension_into()`); ternário
  encadeado; `_` como variável; `&= |= ^= <<= >>=`; métodos str (title,
  capitalize, swapcase, is*, index, rfind, rindex, center, ljust, rjust,
  zfill, splitlines, rsplit, partition), list (count, extend, copy, pop(i),
  sort(key=, reverse=)), dict (update, setdefault, pop, copy, `for k in d`),
  set (discard, remove, issubset, issuperset, isdisjoint, union,
  intersection, difference, symmetric_difference, `| & - ^`);
  `isinstance(x, (A, B))` e com `int/str/list/...`; `type(x).__name__`,
  `f.__name__`; `%s/%r/%i` no format; floats impressos como repr do Python
  (mais curto que faz round-trip: `1/3` → 0.3333333333333333, `3.0` → 3.0).
- tests/65_python_semantics.py corre igual em CPython e Zen.

Diferenças de desenho (ficam, documentadas): tuplos são listas (`(1, 2)`
imprime `[1, 2]`, `[1,2] == (1,2)`); inteiros de 64 bits (sem bigint, `2**63`
vira float); dicts sem ordem de inserção garantida; strings indexadas por
byte (UTF-8 multi-byte parte); variável do `for` não sobrevive ao loop;
`a += [x]` cria lista nova (não é in-place); `sum` de floats sem
compensação; `"%s" % [lista]` espalha a lista; `for/while ... else` não
existe; try/except não existe (decisão do utilizador).

Ainda não suportado (erro claro, não silencioso): `yield` como expressão /
`yield from`; `a, *b = ...`, `(m, n), o = ...`, `for a, (b, c) in`; `def
f(a, *, b)`, `**kwargs`; defaults em lambda; `f(**d)`; `[*a]`; f-string
`!r`; strings `r"..."` e escapes octais; `x = []` no corpo da classe;
generators em `list()/sum()`; iter/next/hash/id/slice/frozenset;
str.format/encode; atributos novos em instâncias (classes seladas);
`Base.who(obj)` (método sem bind); `counts.get` como valor.

### Ronda 6 (2026-09-07, noite: port std → ct::containers, branch port/containers)

Pedido: retirar todo o `std::` do libzen e usar https://github.com/akadjoker/containers
(header-only, `ct::`). Antes: `tools/speed_report.sh <label>` grava em
`tests/manual/baseline/<label>.md` tempos de build limpo (release e debug),
tamanhos, tempo da suite, cross_lang, microbench, algo_bench e tempo de
compilação de scripts (`zen --check`, novo). Baseline: `baseline-1aaa13b.md`;
binários originais em `zenpy_backups/baseline-1aaa13b/`.

Âmbito real do `std::` no libzen: pequeno e quase todo da ronda 5
(`std::vector`/`std::string`/`std::pair`/`stable_sort` em builtin_base.cpp e
invoke_array.inl), mais `std::string` no bytecode.cpp, um `std::vector` no
vm.cpp (`call_args`), `numeric_limits` em bytecode/math, e prefixos `std::`
em funções C (cctype/cstdio/cmath). Os headers `ct` usados (vector, string,
sort, span, detail/utils) estão vendorizados em `libzen/third_party/ct` com
o commit de origem em VERSION; `third_party` entrou no include path privado
do zen_static. `ct::sort` não é estável: a ordenação Python (sorted, list.sort)
usa uma struct `{key, val, index}` e desempata pelo índice original.
`isnan/isinf/isfinite` viraram `zen_isnan/...` em value.h (os de <cmath> só
existem como `std::`). `grep std:: libzen/src libzen/include` → 0.

Resultado (mesma janela, best of 3): tempos de execução iguais dentro do
ruído (fib 0,131/0,131, dijkstra 0,187/0,188, suite 2,1 s); build limpo
igual (9,5→9,8 s release, 8,7→8,9 s debug: o std nunca esteve no caminho
quente da compilação); tamanho: `zen` 653 128 → 628 792 bytes (−3,7 %),
libzen.a release 978 → 958 KB, libzen.a debug 18,9 → 17,7 MB (−6 %).
Conclusão: o port limpa dependências e encolhe o binário; não muda
velocidade, porque as estruturas quentes da VM (arrays, maps, strings do
GC) já eram próprias.

- (cont. ronda 6) `ct::stable_sort` adicionado ao `containers` (merge sort,
  buffer n/2, runs por insertion sort; 13 testes contra std::stable_sort,
  paridade no bench) e usado nos sorts Python do zenpy sem desempate por
  índice. `builtin_json.cpp`: StrBuf → `ct::String`. Módulo `xml` novo
  (`builtin_xml.cpp`) em cima do `ct::Xml`: `parse` → dicts/listas
  (`tag/attrs/text/children`), `stringify(node[, indent])`; tests/66_xml.py,
  docs/zenpy_xml.md. Decisão: o json continua a converter directo para
  objectos Zen (sem árvore `ct::Json` intermédia), porque é o caminho mais
  rápido e já não tem dependências.

### Ronda 7 (2026-09-07, noite: docs internos + testes de cobertura)

- `docs/internals/` (README, dispatch-and-frames, calling-convention,
  natives-and-embedding, compiler-conditions-and-peepholes, gc-and-roots,
  testing): uma página por subsistema, em PT, com os nomes reais do código.
  Regra: quem muda o código muda a página no mesmo commit.
- `run_tests.sh`: `--bytecode` (cada script via `--dump` + `.zbc`, saída
  igual), `--switch-dispatch` (rebuild com `-DZEN_DISPATCH_MODE=1`, o
  caminho do MSVC), e `tests/errors/*.py` (`# expect: <substring>` na 1.ª
  linha; exit != 0 e a substring no stderr). 10 casos de erro.
- `tools/speed_gate.sh <baseline.md> [%]`: falha se um benchmark regredir
  mais do que o limiar.
- test_embedding: kwargs em nativos via `vm->kwargs()` (incl. `sorted(key=,
  reverse=)`), e `ClassBuilder::method(..., ZEN_NATIVE_GC_SAFE)` com receptor
  tipado sob 200k chamadas com lixo pelo meio, dtor no fim.
- Bugs apanhados pelos modos novos: (1) o carregador de `.zbc` chamava
  `resolve_native_globals()` (re-importa módulos, cujas classes internam
  selectores) ANTES de `read_selectors`, logo qualquer script que usasse um
  método cujo selector caísse num slot já ocupado (`xml.parse`, `d.update`)
  carregava com "selector mismatch"; ordem trocada no loader, formato igual.
  (2) `None + 1` (e qualquer não-número) via `ADDI`/`SUBI` dava float em vez
  de erro; agora erro como no `OP_ADD`. (3) `record` e `enum` não eram
  serializados no `.zbc` (as globais ficavam nil): bytecode 2.8 escreve
  `BC_STRUCT_DEF` (nome + campos) e `BC_ENUM_MAP` (mapa de módulo só com
  escalares; um módulo importado, que tem nativos, continua a ser
  re-importado pelo loader). `--bytecode` 79/79.

### Ronda 8 (2026-09-07, noite: zen_bind.hpp + caça a bugs)

- `libzen/include/zen/zen_bind.hpp`: bindings gerados a partir da assinatura
  C++ (header-only, C++17, sem STL). `bind::def_fn<&f>(vm, "nome")` e
  `bind::def_class<T>(vm, "Cls").ctor<A...>()|.ctor<&factory>().dtor()
  .method<&T::m>("m", flags).end()`. Converte bool/inteiros/float/double/
  `const char *`/`Value`/`T *`/`T &`, injecta um `VM *` inicial, tira a
  aridade da assinatura e produz o erro com o nome e o índice do argumento
  (`twice: argument 1 must be an int`). Uma função livre cujo 1.º parâmetro
  é `T *`/`T &` regista-se como método (o receptor entra nesse slot).
  A API crua (`def_native`, `ClassBuilder`) fica igual e é o que o header usa
  por baixo: varargs, kwargs e retornos múltiplos continuam à mão.
  Cobertura: teste 18 do test_embedding (98 checks); `tex_zen.cpp` e
  `glue_zen.cpp` portados como prova (números iguais: glue native 6,70
  ms/frame contra 3,38 do C++; texmark 55 400 sprites a 60 fps).
- Caça a bugs (ASan/UBSan + libFuzzer + fuzzer de mutação): `fuzz_zen`
  804 k execuções e `fuzz_embedding` 167 k sem uma única falha; a suite
  passa 79/79 nos quatro modos. O fuzzer de mutação encontrou um caso real
  de UB: `memcpy(dst, nullptr, 0)` ao crescer os campos de uma instância sem
  campos nenhuns (dois sítios no `vm_dispatch.cpp`) e a mesma forma em
  `array_copy`. Corrigido com guarda `n > 0 && src`.
- O critério do fuzzer de mutação estava errado: contava `[zen runtime
  error]` (erro de script, que é o comportamento certo) como crash, o que
  enterrava o achado real em 70 falsos positivos. Agora só sinais e relatórios
  do sanitizer contam.

### Plano para a próxima sessão (por ordem)

1. Validar: `cd build_release && ninja`, suite normal + `--stress-gc`, bench
   intercalado (script: best-of-3 dos 5 cross_lang + 11 microbench).
2. **Custo por chamada restante (~12,6 vs Lua ~9,8 ns)**: o que sobra é a
   cadeia `*ip` → tabela → jump indirecto duas vezes (CALL, RETURN) mais
   8 stores no frame. Ideias por medir: (a) `ret_reg`/`ret_count` num só
   `uint32`; (b) não escrever `new_frame->ip` no push (só é lido por
   stack traces/SAVE_IP — verificar se algum caminho lê `frame->ip` sem
   SAVE_IP antes, p.ex. GC/erros dentro do callee usam `ip` local?);
   (c) OP_RETURN fast path testar `nresults==1` já em compile-time (opcode
   `RETURN1`?) — provavelmente marginal.
3. **method_call vs Wren (0,131 vs 0,109)**: perfil por opcode do
   method_call; ver se `self.x` no callee (GETFIELD_IDX) e o `INVOKE_VT_R`
   têm branches evitáveis (p.ex. `is_instance` + `slot < vtable_size` +
   `is_closure` + arity: 4 testes — fundir em 1 comparando `klass` com um
   cache inline por call-site? Requer escrever no bytecode: word2 tem
   sel+name_ki, não há espaço → só com 3ª palavra).
4. **binary_trees vs Wren (0,266 vs 0,245)**: alocação — `new_instance`
   + `fields` array; ver se `ObjInstance` com campos inline (uma alocação)
   já está feito (memória diz que era 2 alocações).
5. **Globais de módulo em loops** (for_loop globais 0,158 vs locais 0,064):
   continua a ser a maior diferença relativa. Ideia segura: no top-level,
   `while`/`for` cujo corpo só chama funções que não escrevem essas globais
   (`fn_written_global_count_` já existe) → copiar para registos e escrever
   de volta à saída. Avaliar risco vs ganho (só afecta scripts sem `def`).
6. **Integração engine (Kinetix2D/Radion)**: modelo mínimo em
   tests/manual/bunnymark_raylib/bunny_zen.cpp (`def_native` +
   `call_global`); padrão recomendado: `typed: Array[Bunny] = lista` +
   loop por índice, parâmetros anotados (`p: P`), campos anotados no corpo
   da classe (`left: Node?`) para métodos/campos O(1).
7. Docs: passar a tabela dos opcodes do README para docs/ se o site for
   regenerado (build_docs.py só lê docs/*.md).

### Plano de 2026-09-06 (feito nesta ronda, mantido para referência)

1. **Validar o dia**: `cd build_release && ninja`, `ZEN=build_release/bin/zen
   ./run_tests.sh`, `./run_tests.sh --stress-gc`; correr os 4 benchmarks
   (`tests/manual/cross_lang_bench/zen/*.py`) e `tests/manual/microbench`
   para ter a baseline da máquina nesse dia (varia 8-40% entre sessões:
   comparar sempre intercalado, nunca com números antigos).

2. **Custo por chamada (~15 ns vs Lua ~9)** — o que sobra em fib/method_call:
   - guardar `constants` e `upvalues` no `CallFrame` ao empurrar o frame
     (`new_frame->constants = fn->constants; new_frame->upvalues =
     cl->upvalues`) e fazer `LOAD_STATE` ler só do frame (hoje: 2 loads
     dependentes `frame->func->constants` e `frame->closure->upvalues`).
     Sítios: todos os `new_frame->closure = cl` em vm_dispatch.cpp
     (OP_CALL fast+slow, class __init__, OP_INVOKE fast+slow, INVOKE_VT,
     INVOKE_VT_FAST, SUPER_INVOKE, CALL_GENERIC, INVOKE_GENERIC), vm.cpp
     (call_global, call_fn, run, fibers). Medir com call_f0/call_m_typed.
   - no fast path de OP_CALL/INVOKE, saltar o loop de "marcar strings
     partilhadas" quando `nargs == 0`.
   - juntar `frame_count >= kMaxFrames` + `CHECK_STACK_SPACE` num só teste
     se `frames` e `stack` forem dimensionados juntos.
   Objectivo realista: 15 → 12 ns.

3. **`INVOKE_VT` com receptor noutro registo** (`b.m()` com `b` local gera
   `MOVE base = b` + INVOKE): opcode `OP_INVOKE_VT_R` A=base, B=receptor,
   C=nargs, word2 = sel/nome — a VM copia o receptor para `base` ela
   própria: um dispatch a menos por chamada de método em locais (foreach,
   `self.left.check()` não, esse já é temp). Ver `dot_expr` ramo
   `obj_is_local` em compiler_expressions.cpp.

4. **Anotações de campos na classe** (`left: Tree = None`, `left: Tree?`):
   alimentar `class_field_class_` explicitamente (hoje só por inferência de
   construtores). Ver `class_field_literal`/CLASSFIELDDEF em
   compiler_statements.cpp (corpo da classe) — decidir sintaxe do `?`.

5. **Comprehensions** ainda usam FOR_ITER+JMP: passar para OP_FOR_NEXT
   (mesma transformação que for_statement; grep `emit_for_iter`).

6. **Globais de módulo em loops** (for_loop globais 0,156 vs Wren 0,143):
   só se sobrar tempo — GETGLOBAL/SETGLOBAL por acesso; hipótese barata:
   `while` no topo do módulo copiar globais lidas-e-escritas para registos
   não é seguro sem análise de chamadas; provavelmente deixar.

7. **Verificar `x is not None`**: confirmar como é analisado (pode estar a
   ler `x is (not None)`); se for bug, corrigir em comparison()/Pratt e
   ligar ao OP_JMPIFNIL.

8. **Docs**: docs/ (build_docs.py) — listar os opcodes novos (2.5): CALLGLOBAL,
   FORPREP/FORLOOP, INVOKE_VT 2 palavras, LTI/LEI/GTI/GEI/EQI/NEI JMPIFNOT,
   JMPIF*NIL, FOR_NEXT, GETFIELD_IDXC/SETFIELD_IDXC; e a semântica de
   "tipo estático é dica, nunca promessa".

9. **Wren**: recompilar `wren_cli` (fontes em
   /media/projectos/projects/languages/wren-0.4.0) para voltar a ter a
   coluna Wren nos microbenchmarks.

10. **Integração engine (Kinetix2D/Radion)**: o host do bunnymark
    (tests/manual/bunnymark_raylib/bunny_zen.cpp) é o modelo mínimo de
    embedding: `def_native` + `call_global`; padrão de script recomendado:
    `typed: Array[Bunny] = lista` + loop por índice, parâmetros anotados
    (`p: P`) para campos/métodos O(1).

## Round 9 — edge cases contra CPython (2026-09-08)

Encontrados a testar limites numéricos e strings contra o CPython. Nenhum
está corrigido.

### 1. Ternário avalia sempre os dois ramos (GRAVE)

```python
def boom():
    print("BOOM")
    return 1
x = boom() if False else 2     # imprime BOOM; CPython não
```

Python garante avaliação preguiçosa, e código real depende disso:
`x[0] if x else default`, `n // d if d else 0` — o segundo rebenta com
divisão por zero no zenpy.

Causa: em `a if c else b` o parser chega ao `if` com `a` **já emitido** —
`ternary_expr()` recebe `left` como registo pronto. Corrigir implica
descartar o código de `a` (`shrink_to`) e re-emitir dentro do ramo
verdadeiro, o que precisa da posição do lexer **antes** de `a`, não a que
está guardada (que é depois do `if`). Tentado e revertido: a posição errada
faz o ramo verdadeiro reavaliar a condição.

O zenvm está correcto aqui (`x != 0 ? 10 / x : "safe"` não rebenta).

### 2. `-9223372036854775808` parseado como `-9223372036854775807`

O literal do mínimo de int64 perde uma unidade. O lexer lê o valor absoluto
(9223372036854775808, que não cabe em int64 com sinal) antes de aplicar o
menos unário. O zenvm acerta.

### 3. Overflow de int silencioso, e diferente do CPython

`9223372036854775807 + 1` dá `-9223372036854775808` (wrap). O CPython
promove a inteiro arbitrário. Decisão de desenho legítima — o zen não tem
bignums — mas não está documentada e não há aviso.

### 4. Strings são bytes, não caracteres

`len("héllo")` dá 6 (CPython: 5), e `"héllo"[1]` devolve meio byte UTF-8.
O zenvm tem o mesmo comportamento, portanto é consistente entre os dois,
mas diverge do Python. Há um módulo `utf8`; o que falta é `len`/indexação
serem conscientes de UTF-8, ou a divergência ficar documentada.

Testes usados: tmp/ (não commitado) — reproduzir com
`print(len("héllo"))` e o exemplo do ternário acima.

## Round 10 — o que passou e o que falta (2026-09-08)

Continuação do round 9, a varrer áreas que ainda não tinham sido testadas
contra o CPython lado a lado.

### Passou tudo (nenhuma divergência)

- **Colecções**: índices negativos, fatias fora de limites (`a[5:]`, `a[-10:]`),
  cópia por fatia, igualdade, chaves de tipos diferentes no mesmo dict
  (`d[1]` e `d["1"]` distintos), `get` com default, `sorted`/`reversed`/
  `min`/`max`/`sum`/`any`/`all` incluindo os casos vazios.
- **Closures e funções**: captura por chamada num ciclo, closures aninhadas
  três níveis, defaults, `*args`, recursão a 100 níveis.
- **Classes**: herança a três níveis, `super().__init__`, `super().method()`,
  despacho virtual através de um método da base, `isinstance` em toda a
  cadeia, `__eq__`/`__lt__`/`__add__`/`__str__`, e `sorted` a usar `__lt__`.
- **Aliasing de strings**: o `OBJ_FLAG_SHARED` aguenta os casos que o podiam
  furar — string guardada numa lista antes de ser estendida, usada como
  chave e depois reatribuída, num campo de instância, e alias local dentro
  de uma função. Todos batem certo com o CPython.
- **Stress**: recursão infinita dá "stack overflow" limpo, não crash;
  100k estruturas cíclicas não incomodam o GC; 2M elementos numa lista em
  0.09s/51MB; 500k entradas num dict em 37MB.

### 5. `next()` não existe

```python
g = gen()
print(next(g))     # attempt to call non-function (got nil)
```

Geradores funcionam em `for`, em comprehensions e em generator expressions
(`sum(v for v in gen())`) — só falta o builtin que os consome um a um. É a
forma de usar um gerador como stream, que é metade da razão para os ter.

### 6. `list(generator)` falha

```python
print(list(gen()))    # list: object is not iterable
```

`list()` aceita array, map e set (builtin_base.cpp: a verificação é
`is_array`/`is_map`/`is_set`), e um gerador não é nenhum deles. `[v for v in
gen()]` funciona e produz o mesmo, portanto é só a conversão directa que
falta.

### 7. Tuplos são listas

`(1, 2)` produz um array, `type()` diz "list", e `(1,2) == [1,2]` é True
(CPython: False). Decisão de desenho defensável — um tipo a menos — mas
divergente, e código Python que usa tuplos como chaves de dict ou que
distingue os dois tipos vai comportar-se de outra forma.
