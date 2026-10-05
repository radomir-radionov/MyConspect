# Dynamic Programming — собеседование

Ответы на вопросы этого файла заполнены.

[← К обзору](./7_special_algorithms.md)

### Related docs

- [Dynamic Programming — собеседование](./7_algo_dp_interview.md)

### Sections

- [Interview Practice](#interview-practice)

---

## Interview Practice

Questions from [Devinterview.io — Dynamic Programming](https://devinterview.io/questions/data-structures-and-algorithms/dynamic-programming-interview-questions/).

### Basic Dynamic Programming Concepts

<details>
<summary>What is Dynamic Programming and how does it differ from recursion?</summary>

### What is Dynamic Programming and how does it differ from recursion?

**Definition:**

Динамическое программирование решает рекуррентность, сохраняя ответ каждой пересекающейся подзадачи. Обычная рекурсия пересчитывает этот ответ каждый раз, когда дерево вызовов его просит.

**How it works:**

- Рекурсия уменьшает вход до базы. Ничего не хранится, поэтому один и тот же вызов может выполниться экспоненциально часто.
- DP использует ту же рекуррентность, но каждое различное состояние считается константное число раз и затем переиспользуется.
- DP сверху вниз — рекурсия плюс таблица мемоизации: состояние считается, когда оно впервые нужно.
- DP снизу вверх заполняет таблицу от меньших состояний к ответу, обычно циклом.
- Числа Фибоначчи показывают разницу. Наивное дерево вызывает `fib(k)` по разу на каждый путь, который до него доходит. Мемоизация или таблица вызывают его один раз.

**Examples:**

`fib(5)` наивно разворачивается в два вызова `fib(4)` и `fib(3)`, и те повторяют `fib(2)`. Таблица `t[i] = t[i-1] + t[i-2]` пишет каждый индекс один раз.
</details>

<details>
<summary>Can you explain the concept of overlapping subproblems?</summary>

### Can you explain the concept of overlapping subproblems?

**Definition:**

Пересекающиеся подзадачи значат, что одна и та же меньшая задача появляется на многих ветвях рекурсии, и сохранённый ответ можно использовать снова.

**How it works:**

- Повтор и делает кэш окупаемым. Если каждая подзадача уникальна, как две половины merge sort, таблица работу не убирает.
- Фибоначчи — учебное пересечение: `fib(n)` и `fib(n-1)` оба нуждаются в `fib(n-2)`.
- Расстояние редактирования той же формы. Расстояние между префиксом «Saturday» и префиксом «Sunday» достигается больше чем одной цепочкой вставки, удаления и замены.
- Оптимальная подструктура — парное свойство: оптимальный ответ собирается из оптимальных ответов этих повторяющихся кусков. Одного пересечения мало, если куски так не складываются.

**Examples:**

`fib(6)` вызывает `fib(4)` и из `fib(6)`, и из `fib(5)`. Один сохранённый `fib(4)` заменяет целое поддерево.
</details>

<details>
<summary>Define memoization and how it improves performance in Dynamic Programming.</summary>

### Define memoization and how it improves performance in Dynamic Programming.

**Definition:**

Мемоизация хранит результат вызова по его аргументам и возвращает его, когда те же аргументы появляются снова. В DP это способ сверху вниз заполнить таблицу состояний.

**How it works:**

- Первый вызов делает работу и пишет кэш. Поздние вызовы — это поиск.
- Код остаётся близким к рекуррентности, без явного цикла по всем состояниям.
- Считаются только состояния, до которых реально доходит исходный вызов. Это может быть лучше таблицы снизу вверх, которая заполняет больший прямоугольник.
- Цена — сам кэш, глубина рекурсии и любая политика выбрасывания устаревших записей, если функция не является чистой функцией своих аргументов.
- Для Фибоначчи кэш превращает экспоненциальное дерево в одну цепочку новых состояний: Θ(n) времени и Θ(n) записей.

**Examples:**

```text
fib(n):
  if n in cache: return cache[n]
  if n < 2: return n
  cache[n] = fib(n-1) + fib(n-2)
  return cache[n]
```
</details>

<details>
<summary>What is the difference between top-down and bottom-up approaches in Dynamic Programming?</summary>

### What is the difference between top-down and bottom-up approaches in Dynamic Programming?

**Definition:**

Сверху вниз начинают с запрошенного ответа и рекурсируют, кэшируя каждое состояние. Снизу вверх начинают с базы и крутят цикл, пока запрошенный ответ не заполнен.

**How it works:**

- Сверху вниз — рекурсия с мемоизацией. Вызов `fib(n)` просит `fib(n-1)` и `fib(n-2)`, а словарь останавливает повтор.
- Снизу вверх выделяют `t[0] = 0`, `t[1] = 1`, затем ставят `t[i] = t[i-1] + t[i-2]` для `i` от 2 до n.
- Обе схемы используют одну рекуррентность и одну асимптотику, когда нужны все состояния. Сверху вниз может пропустить состояния, которые никто не спросил. Снизу вверх нет стека вызовов, и цикл предсказуем.
- Снизу вверх делает порядок зависимостей явным: ячейка пишется только после ячеек, которые она читает. Сверху вниз обнаруживает этот порядок через рекурсию.

**Examples:**

`fib(4)` сверху вниз вызывает 4, затем 3, затем 2 и на обратном пути сохраняет 2, 3 и 4. Снизу вверх пишет индексы 2, 3 и 4 в этом порядке и не строит стек вызовов.
</details>

<details>
<summary>Explain the importance of state definition in Dynamic Programming solutions.</summary>

### Explain the importance of state definition in Dynamic Programming solutions.

**Definition:**

Состояние — это наименьший набор параметров, который называет подзадачу. Неверный набор либо нельзя рекурсировать, либо он хранит больше, чем нужно рекуррентности.

**How it works:**

- Ясное состояние — это способ назвать пересекающиеся куски и записать переход между ними.
- Хранить только поля, которые читает переход, и значит ограничить таблицу. Лишние поля умножают память.
- Та же дисциплина даёт более короткий код: одна функция или один цикл на состояние, а не гора частных случаев.
- Состояния оптимизации обычно хранят лучшее значение, например максимальную ценность при вместимости рюкзака.
- Состояния подсчёта хранят, сколькими способами можно прийти к этому набору.
- Состояния решения хранят да или нет, например «может ли этот префикс набрать сумму?».

**Examples:**

Рюкзак 0/1: состояние `(i, w)` — лучшая ценность на первых `i` предметах при вместимости `w`. Если выкинуть `i`, переход становится двусмысленным: уже неясно, какой предмет вы решаете.
</details>

### Fundamental Dynamic Programming Problems

<details>
<summary>Compute the Fibonacci sequence using Dynamic Programming.</summary>

### Compute the Fibonacci sequence using Dynamic Programming.

**Definition:**

n-е число Фибоначчи — классическое одномерное DP: `F(i) = F(i-1) + F(i-2)` при `F(0) = 0` и `F(1) = 1`.

**How it works:**

- Табуляция выделяет массив и сначала пишет базу.
- Для `i` от 2 до n кладёт в `fib[i]` сумму двух предыдущих ячеек.
- Время Θ(n) против экспоненциального дерева наивной рекурсии.
- Память Θ(n) на массив. Две скользящие переменные срезают это до Θ(1), если нужно только `F(n)`, а не вся последовательность.
- Порядок цикла и есть доказательство, что зависимость выполнена: ячейка пишется только после того, как оба родителя уже есть.

**Examples:**

```text
fib = [0, 1]
for i in 2..n: fib[i] = fib[i-1] + fib[i-2]
return fib[n]
```

`n = 6` пишет `1, 2, 3, 5, 8`.
</details>

<details>
<summary>Implement a solution to the Coin Change Problem using DP.</summary>

### Implement a solution to the Coin Change Problem using DP.

**Definition:**

Задача о размене (минимум монет) просит наименьшее число монет из списка номиналов, которые в сумме дают `amount`.

**How it works:**

- Пусть `dp[x]` — минимум монет, дающих сумму `x`. `dp[0] = 0`, остальные ячейки — страж больше `amount`, например `amount + 1`.
- Для каждой суммы `x` от 1 до `amount` и каждой монеты `c`, если `c <= x`, то `dp[x] = min(dp[x], 1 + dp[x - c])`.
- Единица — монета, которую только что взяли. `dp[x - c]` — лучший способ набрать остаток.
- Если `dp[amount]` всё ещё страж, комбинации нет.
- Время Θ(amount × число монет). Память Θ(amount).
- Этот порядок разрешает брать монету сколько угодно раз. Вариант 0/1 шёл бы по монетам снаружи и по суммам вниз.

**Examples:**

Монеты `[1, 2, 5]`, сумма `11`. Один оптимальный набор — `5 + 5 + 1`, ответ 3. `dp[11]` заканчивается на 3.
</details>

<details>
<summary>Use Dynamic Programming approach to solve the 0/1 Knapsack problem.</summary>

### Use Dynamic Programming approach to solve the 0/1 Knapsack problem.

**Definition:**

Рюкзак 0/1 берёт каждый предмет не больше одного раза. Нужно подмножество веса не больше `W` с максимальной ценностью.

**How it works:**

- Состояние `dp[i][w]` — лучшая ценность на первых `i` предметах при вместимости `w`.
- Таблица имеет `(n + 1)` строк и `(W + 1)` столбцов. Строка 0 и столбец 0 остаются нулями.
- Если предмет `i` тяжелее `w`, копируют `dp[i-1][w]`. Иначе берут максимум из «пропустить» и из `value[i] + dp[i-1][w - weight[i]]`.
- Ответ — `dp[n][W]`. Идут назад от этой ячейки: если ценность изменилась относительно строки выше, предмет взят.
- Время и полная таблица — Θ(n · W). Одна скользящая строка длины `W + 1`, заполняемая справа, сохраняет время и даёт память Θ(W).

**Examples:**

Предметы `(вес 2, ценность 3)` и `(вес 3, ценность 4)`, вместимость 5. Оба вместе больше 5. Лучшая ячейка таблицы — 4, только второй предмет, если рядом с первым не влезает третий.
</details>

<details>
<summary>Implement an algorithm for computing the longest common subsequence of two sequences.</summary>

### Implement an algorithm for computing the longest common subsequence of two sequences.

**Definition:**

Наибольшая общая подпоследовательность — самая длинная последовательность, которая есть в обоих входах в том же порядке, не обязательно подряд.

**How it works:**

- Пусть длины строк `m` и `n`. `L[i][j]` — длина LCS первых `i` символов `X` и первых `j` символов `Y`.
- Начинают с нулевой каймы. Если `X[i-1] == Y[j-1]`, то `L[i][j] = L[i-1][j-1] + 1`. Иначе `L[i][j] = max(L[i-1][j], L[i][j-1])`.
- Длина — `L[m][n]`. Чтобы восстановить одну подпоследовательность, идут от этой ячейки: при совпадении выдают символ и шагают по диагонали, иначе шагают к большему соседу.
- Время и память полной матрицы — Θ(m n). Две скользящие строки держат длину в памяти Θ(min(m, n)); восстановить строку всё равно нужно, запоминая выборы.

**Examples:**

`X = ABCD`, `Y = ACBD`. Одна LCS — `ABD`, длина 3. `ACD` — другая той же длины.
</details>

<details>
<summary>Solve matrix chain multiplication problem with Dynamic Programming.</summary>

### Solve matrix chain multiplication problem with Dynamic Programming.

**Definition:**

Перемножение цепочки матриц выбирает, где расставить скобки в произведении `A1 A2 … An`, чтобы число скалярных умножений было минимальным. Размеры совместимы; меняется только ассоциация.

**How it works:**

- Состояние `(i, j)` — самый дешёвый способ перемножить цепочку от матрицы `i` до матрицы `j`.
- Одна матрица стоит 0. Разрез после матрицы `k` стоит `dp[i][k] + dp[k+1][j]` плюс `rows(i) * cols(k) * cols(j)`.
- Заполняют по возрастанию длины цепочки. Для каждой длины пробуют каждый старт `i` и каждый разрез `k`.
- Оптимальная ассоциация цепочки использует оптимальную ассоциацию по каждую сторону разреза. Аргумент минимума в таблице запоминает `k`, если нужны скобки, а не только цена.
- Время Θ(n³) из трёх вложенных циклов. Таблица Θ(n²).

**Examples:**

Размеры `10×30`, `30×5`, `5×60`. Разрез после первой матрицы стоит `10*30*5 + 10*5*60 = 4500`. Разрез после второй стоит `30*5*60 + 10*30*60 = 27000`. DP выбирает 4500.
</details>

### Optimizing Dynamic Programming Solutions

<details>
<summary>What are the trade-offs between memoization and tabulation in Dynamic Programming?</summary>

### What are the trade-offs between memoization and tabulation in Dynamic Programming?

**Definition:**

Мемоизация — это рекуррентность сверху вниз с кэшем. Табуляция — цикл снизу вверх, который пишет каждое зависимое состояние до того, как оно понадобится вызывающему.

**How it works:**

- Мемоизация начинает с исходной задачи и считает подзадачу только когда вызов до неё доходит. Недостижимые состояния пропускаются.
- Минусы — накладные расходы рекурсии и стек вызовов глубиной до самой длинной цепочки состояний.
- У табуляции нет рекурсивного стека. Порядок цикла должен совпасть с зависимостями, и это труднее, когда зависимости — не простой порядок индексов.
- Табуляция часто заполняет состояния, которые никому не нужны, если таблица больше множества достижимых состояний.
- Время одного порядка, когда обе схемы трогают одни и те же состояния. Берите мемоизацию, когда достижимое множество редкое или рекуррентность яснее как функция. Берите табуляцию, когда нужен ограниченный стек и плотный скользящий массив.

**Examples:**

Рюкзак, у которого вместимости прыгают большими весами, сверху может не посетить большинство значений `w`. Строка снизу вверх всё равно пишет каждую вместимость.
</details>

<details>
<summary>How do you determine the time complexity of a Dynamic Programming algorithm?</summary>

### How do you determine the time complexity of a Dynamic Programming algorithm?

**Definition:**

Время DP — это число состояний, умноженное на работу, чтобы посчитать одно состояние из тех, от которых оно уже зависит. Память — число состояний, которые вы храните.

**How it works:**

- Считают различные кортежи. Одномерный индекс `i ≤ n` — Θ(n) состояний. Пара `(i, j)` по длинам `m` и `n` — Θ(m n).
- Умножают на переходы, которые пробуют на состояние. Размен монет пробует каждую монету, поэтому оценка Θ(amount × монеты), а не Θ(amount).
- Рекурсия с мемоизацией имеет ту же оценку, как только каждое состояние закэшировано, даже если дерево без кэша было экспоненциальным. Стек — память сверху кэша.
- Одномерный цикл снизу вверх часто Θ(n × работа на ячейку). Двумерная таблица — Θ(m n × работа на ячейку) времени и Θ(m n) памяти, если строку не выбрасывают.
- Сжатие состояния меняет обе оценки: две скользящие переменные Фибоначчи, скользящее окно последней строки или проход строки рюкзака назад, чтобы хватило одного массива.

**Examples:**

Цепочка матриц: Θ(n²) подцепочек, каждая пробует Θ(n) разрезов, итого Θ(n³). Фибоначчи: Θ(n) состояний и Θ(1) работы на каждое, итого Θ(n).
</details>

<details>
<summary>Describe techniques to optimize space complexity in Dynamic Programming problems.</summary>

### Describe techniques to optimize space complexity in Dynamic Programming problems.

**Definition:**

Память падает, когда состояние читает только тонкий срез более ранних состояний, и остальная таблица не обязана существовать целиком.

**How it works:**

- Скользящие переменные: Фибоначчи нужны только два последних числа, и массив Θ(n) становится двумя словами.
- Скользящие строки: LCS и расстояние редактирования читают только предыдущую строку и левого соседа текущей ячейки. Хранят две строки или даже одну строку плюс диагональную переменную.
- Рюкзак 0/1 читает `dp[i-1][w - weight]`, заполняя строку `i`. Идут по `w` вниз в одном массиве, чтобы ещё нужные значения не были затёрты.
- Чередование — та же идея на сетке: посчитали одну диагональ или строку и выбросили её.
- Не мемоизируйте огромное состояние, если решение зависит только от текущей позиции. Клетке лабиринта не нужна копия всего пути.
- Битовые множества упаковывают булев ряд. Так некоторые строковые и рюкзачные DP срезают константу, а не асимптотическую форму, когда состояние — набор достижимых флагов.

**Examples:**

Расстояние редактирования строк длины `n` может держать два массива длины `n + 1` вместо матрицы `(n+1) × (n+1)`. Расстояние — последняя ячейка; полное выравнивание всё ещё требует выборов или полной таблицы.
</details>

<details>
<summary>What is state transition, and how do you derive state transition relations?</summary>

### What is state transition, and how do you derive state transition relations?

**Definition:**

Переход состояния — правило, которое строит ответ одного состояния из нескольких более ранних. Вывести его значит назвать состояние, допустимые ходы, старт и остановку.

**How it works:**

- Записывают поля, которые нужно знать, чтобы продолжать. Этот кортеж и есть состояние.
- Перечисляют выборы в этом кортеже и состояние, куда каждый выбор попадает. Отношение — min, max или сумма по этим попаданиям.
- Начальное состояние — пустой префикс, ноль предметов или база Фибоначчи. Оно должно совпасть с реальным стартом задачи.
- Конечное состояние — где выбора не осталось: вместимость исчерпана, строка съедена или индекс дошёл до `n`.
- Таблица — только память для этих отношений. Без верного отношения порядок заполнения не важен.
- Отношение рюкзака — образец: из `(i, w)` либо остаются в `(i-1, w)`, либо, если предмет влезает, прибавляют его ценность к `(i-1, w - weight)`.

**Examples:**

```text
dp[i][w] = dp[i-1][w]                         если weight[i] > w
dp[i][w] = max(dp[i-1][w],
               value[i] + dp[i-1][w-weight])  иначе
```
</details>

### String-related Dynamic Programming Questions

<details>
<summary>Find the longest palindromic substring in a given string.</summary>

### Find the longest palindromic substring in a given string.

**Definition:**

Наибольшая палиндромная подстрока — самый длинный непрерывный кусок, который одинаково читается вперёд и назад. DP записывает, является ли каждый кусок палиндромом, и хранит самый длинный из тех, что являются.

**How it works:**

- `dp[i][j]` истинно, когда `s[i..j]` — палиндром.
- Каждый кусок длины 1 истинен. Кусок длины 2 истинен, когда два символа совпадают.
- Для более длинного куска `dp[i][j]` истинно, когда `s[i] == s[j]` и `dp[i+1][j-1]` истинно. Заполняют по возрастанию длины, чтобы внутренний кусок уже существовал.
- Следят за `(i, j)` с наибольшим `j - i` среди истинных ячеек.
- Время и булева таблица — Θ(n²). Раскрытие от каждого центра находит тот же ответ за Θ(n²) времени и Θ(1) дополнительной памяти; таблица DP — версия, где зависимость явна.

**Examples:**

`s = "babad"`. И `"bab"`, и `"aba"` — палиндромы длины 3, длиннее нет. Любой из них — верный ответ.
</details>

<details>
<summary>Provide a Dynamic Programming solution for the edit distance problem.</summary>

### Provide a Dynamic Programming solution for the edit distance problem.

**Definition:**

Расстояние редактирования здесь — расстояние Левенштейна: минимум односимвольных вставок, удалений и замен, которые превращают одну строку в другую. Каждая правка имеет цену 1. Wikipedia даёт рекуррентность Вагнера–Фишера на префиксах.

**How it works:**

- `D(i, 0) = i` и `D(0, j) = j`: префикс становится пустым только удалениями или вставками.
- `D(i, j)` — минимум удаления `a[i]` (`D(i-1, j) + 1`), вставки `b[j]` (`D(i, j-1) + 1`) и совпадения или замены (`D(i-1, j-1)` плюс 0 или 1).
- Полная матрица заполняет каждую пару префиксов, поэтому время Θ(|a| · |b|). Wikipedia указывает, что для одного лишь расстояния нужна предыдущая строка, и рабочая память падает до O(min(|a|, |b|)).
- От `kitten` до `sitting` расстояние 3. При единичных ценах это метрика.

**Examples:**

```text
def edit_distance(a, b):
    prev = list(range(len(b) + 1))
    for i, ca in enumerate(a, 1):
        cur = [i]
        for j, cb in enumerate(b, 1):
            cost = 0 if ca == cb else 1
            cur.append(min(prev[j] + 1, cur[-1] + 1, prev[j - 1] + cost))
        prev = cur
    return prev[-1]
```

`edit_distance("kitten", "sitting")` равно 3.

**Sources:**

- [Wikipedia — Levenshtein distance](https://en.wikipedia.org/wiki/Levenshtein_distance)
</details>

<details>
<summary>Explain Dynamic Programming on strings with the example of word break problem.</summary>

### Explain Dynamic Programming on strings with the example of word break problem.

**Definition:**

Word break спрашивает, является ли строка сцеплением словарных слов, и слово можно брать снова. GeeksforGeeks оценивает восходящий DP как O(n · m · L), где n — длина строки, m — размер словаря, L — длина слова, и O(n) дополнительной памяти. Перебор разрезов без памяти — O(2^n).

**How it works:**

- `dp[i]` истинно, когда `s[0:i]` можно разрезать. `dp[0]` истинно.
- Для каждого конца `i` и каждого слова: если слово совпало со срезом, который кончается в `i`, и префикс до него разрезаем, ставят `dp[i]`.
- Бор плюс DP, ожидаемый подход страницы, — O(n · L + m · L) времени.
- Перекрывающиеся префиксы — причина, почему булев массив бьёт голую рекурсию: `"ilike"` переиспользует решение на разрезе после `"i"`.

**Examples:**

```text
def word_break(s, words):
    words = set(words)
    dp = [False] * (len(s) + 1)
    dp[0] = True
    for i in range(1, len(s) + 1):
        for j in range(i):
            if dp[j] and s[j:i] in words:
                dp[i] = True
                break
    return dp[-1]
```

`word_break("ilike", ["i", "like", "gfg"])` истинно. `word_break("ilikemangoes", ["i", "like", "man", "india", "gfg"])` ложно.

**Sources:**

- [GeeksforGeeks — Word Break](https://www.geeksforgeeks.org/dsa/word-break-problem-dp-32/)
</details>

### Sequence and Subsequence related Problems

<details>
<summary>Solve the Longest Increasing Subsequence problem using Dynamic Programming.</summary>

### Solve the Longest Increasing Subsequence problem using Dynamic Programming.

**Definition:**

Наидлиннейшая возрастающая подпоследовательность — самая длинная строго возрастающая подпоследовательность. GeeksforGeeks оценивает DP длин как O(n²) времени и O(n) памяти. Форма с двоичным поиском по хвостам — O(n log n) времени и O(n) памяти.

**How it works:**

- `L[i]` — длина наидлиннейшей возрастающей подпоследовательности, которая кончается в `i`. Это 1 плюс лучшее `L[prev]` при `prev < i` и `arr[prev] < arr[i]`, или 1, если такого `prev` нет.
- Ответ — максимум `L[i]`, не `L[n - 1]`.
- У `[3, 10, 2, 1, 20]` длина 3, из `3, 10, 20`. Равные значения не продлевают строго возрастающую цепь: у `[2, 2, 2]` длина 1.
- Метод O(n log n) хранит наименьший возможный хвост каждой длины и двоичным поиском ищет, куда встаёт следующее значение. Он считает длину; восстановление последовательности требует ссылок на родителей.

**Examples:**

```text
def lis(arr):
    n = len(arr)
    L = [1] * n
    for i in range(n):
        for prev in range(i):
            if arr[prev] < arr[i]:
                L[i] = max(L[i], L[prev] + 1)
    return max(L, default=0)
```

`lis([3, 10, 2, 1, 20])` равно 3. `lis([3, 4, 5, 1, 2, 3, 4])` равно 4.

**Sources:**

- [GeeksforGeeks — Longest increasing subsequence](https://www.geeksforgeeks.org/dsa/longest-increasing-subsequence-dp-3/)
</details>

<details>
<summary>Solve the Maximum Sum Increasing Subsequence problem with DP.</summary>

### Solve the Maximum Sum Increasing Subsequence problem with DP.

**Definition:**

Это DP возрастающей подпоследовательности, где вместо длин считают суммы. GeeksforGeeks оценивает восходящую таблицу как O(n²) времени и O(n) памяти, а ускоренную форму как O(n log n) времени и O(n) памяти. Рекурсия без памяти — O(2^n).

**How it works:**

- `ms[i]` — лучшая сумма строго возрастающей подпоследовательности, которая кончается в `i`. Начало — само `arr[i]`.
- Её продлевают из любого более раннего `prev` с `arr[prev] < arr[i]`: `ms[i] = max(ms[i], ms[prev] + arr[i])`.
- Ответ — максимум `ms[i]`. `[1, 101, 2, 3, 100]` даёт 106 из `[1, 2, 3, 100]`, а не 102 из `[1, 101]`.
- Страница берёт положительные целые, поэтому более длинная цепь положительных чисел не проигрывает короткой только из-за длины; цель всё равно сумма.

**Examples:**

```text
def msis(arr):
    ms = arr[:]
    for i in range(len(arr)):
        for prev in range(i):
            if arr[prev] < arr[i]:
                ms[i] = max(ms[i], ms[prev] + arr[i])
    return max(ms, default=0)
```

`msis([1, 101, 2, 3, 100])` равно 106. `msis([4, 1, 2, 3])` равно 6.

**Sources:**

- [GeeksforGeeks — Maximum sum increasing subsequence](https://www.geeksforgeeks.org/dsa/maximum-sum-increasing-subsequence-dp-14/)
</details>

<details>
<summary>Implement an algorithm for finding the number of subsequences with a given sum in an array.</summary>

### Implement an algorithm for finding the number of subsequences with a given sum in an array.

**Definition:**

Считают наборы индексов, чьи значения дают сумму `target`. Это DP суммы подмножества со счётчиками вместо булевых значений. GeeksforGeeks заполняет булеву таблицу за O(sum · n); таблица счётчиков имеет ту же форму и ту же оценку. Ожидаемая память булевой формы — O(sum); форма со счётом использует тот же одномерный массив целых.

**How it works:**

- `dp[s]` — число подмножеств уже просмотренного префикса с суммой `s`. `dp[0]` начинают с 1, пустое подмножество.
- Каждое значение `x` берут не больше одного раза: суммы идут вниз от `target` до `x`, и к `dp[s]` прибавляют `dp[s - x]`.
- Ход вниз не даёт одному элементу войти в одно подмножество дважды.
- Это считает подмножества, то есть подпоследовательности, которые сохраняют порядок массива. Перестановки одного и того же набора индексов повторно не считаются.
- Рекурсия «взять или пропустить» — O(2^n), наивная оценка страницы.

**Examples:**

```text
def count_subsequences(arr, target):
    dp = [0] * (target + 1)
    dp[0] = 1
    for x in arr:
        for s in range(target, x - 1, -1):
            dp[s] += dp[s - x]
    return dp[target]
```

`count_subsequences([1, 2, 3], 3)` равно 2: `[3]` и `[1, 2]`.

**Sources:**

- [GeeksforGeeks — Subset sum](https://www.geeksforgeeks.org/dsa/subset-sum-problem-dp-25/)
</details>

### Partitioning Problems

<details>
<summary>Solve the partition problem using Dynamic Programming.</summary>

### Solve the partition problem using Dynamic Programming.

**Definition:**

Массив делится на два подмножества равной суммы ровно тогда, когда какое-то подмножество даёт половину общей суммы. GeeksforGeeks оценивает этот DP суммы подмножества как O(sum · n) времени. Форма со сжатой памятью использует O(sum) дополнительной памяти. Нечётная сумма невозможна.

**How it works:**

- Если `total` нечётно, ответ ложен. Иначе спрашивают сумму подмножества для `total // 2`.
- Булева строка отмечает каждую сумму, которую может дать префикс. Истина в клетке `total // 2` — ответ да.
- `[1, 5, 11, 5]` даёт 22, и `{11}` попадает в 11, поэтому второе подмножество — `{1, 5, 5}`. `[1, 5, 3]` даёт 9 и не делится.
- Рекурсия по двум выборам на элемент — O(2^n).

**Examples:**

```text
def can_partition(arr):
    total = sum(arr)
    if total % 2:
        return False
    target = total // 2
    dp = [False] * (target + 1)
    dp[0] = True
    for x in arr:
        for s in range(target, x - 1, -1):
            dp[s] = dp[s] or dp[s - x]
    return dp[target]
```

`can_partition([1, 5, 11, 5])` истинно. `can_partition([1, 5, 3])` ложно.

**Sources:**

- [GeeksforGeeks — Partition into equal sum](https://www.geeksforgeeks.org/dsa/partition-problem-dp-18/)
</details>

<details>
<summary>Provide a Dynamic Programming solution for the subset sum problem.</summary>

### Provide a Dynamic Programming solution for the subset sum problem.

**Definition:**

Сумма подмножества спрашивает, даёт ли какое-нибудь подмножество неотрицательных целых сумму `target`. GeeksforGeeks оценивает таблицу как O(sum · n) времени и O(sum · n) памяти, а одну строку как O(sum · n) времени и O(sum) памяти.

**How it works:**

- `dp[s]` значит, что какое-то подмножество уже рассмотренных элементов даёт сумму `s`.
- Для каждого значения суммы обновляют сверху вниз, чтобы значение вошло один раз.
- `[3, 34, 4, 12, 5, 2]` может дать 9 как `4 + 5` и не может дать 30.
- Рекурсия «взять или пропустить» — O(2^n) времени и O(n) стека.

**Examples:**

```text
def subset_sum(arr, target):
    dp = [False] * (target + 1)
    dp[0] = True
    for x in arr:
        for s in range(target, x - 1, -1):
            dp[s] = dp[s] or dp[s - x]
    return dp[target]
```

`subset_sum([3, 34, 4, 12, 5, 2], 9)` истинно. `subset_sum([3, 34, 4, 12, 5, 2], 30)` ложно.

**Sources:**

- [GeeksforGeeks — Subset sum](https://www.geeksforgeeks.org/dsa/subset-sum-problem-dp-25/)
</details>

<details>
<summary>Solve the Balanced Partition problem dynamically.</summary>

### Solve the Balanced Partition problem dynamically.

**Definition:**

Сбалансированное разбиение кладёт каждый элемент в одну из сторон и делает две суммы как можно ближе. Это DP равного разбиения, нацеленный на достижимую сумму, ближайшую к `total // 2`. GeeksforGeeks оценивает таблицу достижимых сумм как O(sum · n) времени и O(sum) дополнительной памяти в однострочной форме.

**How it works:**

- Равный разрез есть только когда `total // 2` достижима и `total` чётно. Иначе лучшая достижимая сумма `s <= total // 2` оставляет разность `total - 2s`.
- `[1, 6, 11, 5]` даёт 23. Подмножество `{11}` даёт 11, другая сторона — 12, разность 1.
- Задача решения на странице разбиения — частный случай, где эта разность равна 0.
- Наивный поиск «взять или пропустить» — O(2^n).

**Examples:**

```text
def min_partition_diff(arr):
    total = sum(arr)
    target = total // 2
    dp = [False] * (target + 1)
    dp[0] = True
    for x in arr:
        for s in range(target, x - 1, -1):
            dp[s] = dp[s] or dp[s - x]
    for s in range(target, -1, -1):
        if dp[s]:
            return total - 2 * s
    return total
```

`min_partition_diff([1, 6, 11, 5])` равно 1. `min_partition_diff([1, 5, 11, 5])` равно 0.

**Sources:**

- [GeeksforGeeks — Partition into equal sum](https://www.geeksforgeeks.org/dsa/partition-problem-dp-18/)
</details>

### Path-finding Dynamic Programming Questions

<details>
<summary>Solve the unique paths problem in a grid with obstacles using DP.</summary>

### Solve the unique paths problem in a grid with obstacles using DP.

**Definition:**

Считают пути из левой верхней клетки в правую нижнюю, которые ходят только вправо или вниз и не встают на препятствие. Одна величина на клетку — тот же учёт, которым GeeksforGeeks оценивает сеточный DP: таблица минимальной стоимости — O(m · n) времени, потому что каждая клетка пишется один раз.

**How it works:**

- `dp[0][0]` равно 1, если старт открыт, и 0, если он закрыт.
- Закрытая клетка хранит 0. Открытая хранит сумму чисел путей сверху и слева.
- В этой задаче нет третьего диагонального хода. Страница минимальной стоимости разрешает вправо, вниз и по диагонали; счёт путей здесь использует только первые два.
- В таблице одна запись на клетку, поэтому заполнение — Θ(m · n) времени, а две скользящие строки — O(n) дополнительной памяти, тот же класс памяти, что у ожидаемого сеточного DP страницы с O(n).

**Examples:**

```text
def unique_paths(grid):
    if not grid or grid[0][0] == 1:
        return 0
    m, n = len(grid), len(grid[0])
    dp = [0] * n
    dp[0] = 1
    for i in range(m):
        for j in range(n):
            if grid[i][j] == 1:
                dp[j] = 0
            elif j:
                dp[j] += dp[j - 1]
    return dp[-1]
```

На сетке 3×3, у которой центр закрыт, остаются два пути по краю.

**Sources:**

- [GeeksforGeeks — Min cost path](https://www.geeksforgeeks.org/dsa/min-cost-path-dp-6/)
</details>

<details>
<summary>Use Dynamic Programming to solve the minimum cost path problem in a grid.</summary>

### Use Dynamic Programming to solve the minimum cost path problem in a grid.

**Definition:**

У каждой клетки есть цена прохода, и цена пути — сумма посещённых клеток, включая оба конца. GeeksforGeeks разрешает ходы вправо, вниз и по диагонали и оценивает DP со сжатой памятью как O(m · n) времени и O(n) дополнительной памяти. Мемоизация и полная таблица — O(m · n) времени и O(m · n) памяти.

**How it works:**

- `dp[i][j] = cost[i][j] + min(слева, сверху, по диагонали)`, пропуская направление, которое выходит из сетки.
- Первая клетка — просто `cost[0][0]`.
- На `[[1, 2, 3], [4, 8, 2], [1, 5, 3]]` минимум 8, по пути `(0,0) → (0,1) → (1,2) → (2,2)`.
- Рекурсия, которая заново перебирает каждую ветку, на этой странице — O(3^(m·n)). Дейкстра на графе клеток — O((m·n) log(m·n)).

**Examples:**

```text
def min_cost(cost):
    m, n = len(cost), len(cost[0])
    dp = [[0] * n for _ in range(m)]
    dp[0][0] = cost[0][0]
    for j in range(1, n):
        dp[0][j] = dp[0][j - 1] + cost[0][j]
    for i in range(1, m):
        dp[i][0] = dp[i - 1][0] + cost[i][0]
        for j in range(1, n):
            dp[i][j] = cost[i][j] + min(dp[i - 1][j], dp[i][j - 1], dp[i - 1][j - 1])
    return dp[-1][-1]
```

`min_cost([[1, 2, 3], [4, 8, 2], [1, 5, 3]])` равно 8.

**Sources:**

- [GeeksforGeeks — Min cost path](https://www.geeksforgeeks.org/dsa/min-cost-path-dp-6/)
</details>

<details>
<summary>Find the longest path in a matrix with given constraints.</summary>

### Find the longest path in a matrix with given constraints.

**Definition:**

Обычное ограничение — путь по клеткам, который ходит к соседу по стороне и строго возрастает. Мемоизация лучшей длины из каждой клетки пишет каждую клетку один раз и смотрит четырёх соседей — тот же учёт «одно состояние на клетку», которым GeeksforGeeks пользуется, когда сеточный DP стоит O(m · n).

**How it works:**

- `dp[i][j]` — длина наидлиннейшего возрастающего пути, который начинается в `(i, j)`. Она не меньше 1.
- Это 1 плюс лучший запомненный сосед, чьё значение больше `matrix[i][j]`.
- Без таблицы рекурсия повторяет одну клетку от многих родителей. С таблицей каждая клетка решается один раз.
- Ответ — максимум по всем стартам, потому что путь не обязан начинаться в углу.
- Клетка без большего соседа — путь длины 1.

**Examples:**

```text
def longest_increasing_path(matrix):
    if not matrix:
        return 0
    m, n = len(matrix), len(matrix[0])
    dp = [[0] * n for _ in range(m)]

    def best(i, j):
        if dp[i][j]:
            return dp[i][j]
        longest = 1
        for di, dj in ((1, 0), (-1, 0), (0, 1), (0, -1)):
            ni, nj = i + di, j + dj
            if 0 <= ni < m and 0 <= nj < n and matrix[ni][nj] > matrix[i][j]:
                longest = max(longest, 1 + best(ni, nj))
        dp[i][j] = longest
        return longest

    return max(best(i, j) for i in range(m) for j in range(n))
```

На `[[9, 9, 4], [6, 6, 8], [2, 1, 1]]` один возрастающий путь — `1 → 2 → 6 → 9`, длина 4.

**Sources:**

- [GeeksforGeeks — Min cost path](https://www.geeksforgeeks.org/dsa/min-cost-path-dp-6/)
</details>

### Advanced Dynamic Programming Problems

<details>
<summary>Solving the word wrap problem using DP.</summary>

### Solving the word wrap problem using DP.

**Definition:**

Слова сохраняют порядок. Строка вмещает не больше `k` символов, а цена строки — квадрат лишних пробелов. Последняя строка ничего не стоит. GeeksforGeeks оценивает табличный DP как O(n²) времени и O(n) памяти. Жадная укладка не оптимальна: пример страницы `[3, 2, 2, 5]` при ширине 6 имеет цену 10, а похожий на жадный разрез — 16.

**How it works:**

- `dp[i]` — минимальная цена укладки слов `i…n-1`.
- Пробуют каждую строку, которая начинается в `i` и ещё помещается. Цена — `(k - used)²` плюс `dp` следующего слова, кроме строки, которая забирает остаток текста: она стоит 0.
- Стартов O(n) и концов-кандидатов O(n) — это заявленные O(n²). Рекурсия без таблицы экспоненциальна; страница пишет наивную оценку как O(2^n).
- Слова короче строки, поэтому одно слово всегда помещается.

**Examples:**

```text
def word_wrap(lengths, k):
    n = len(lengths)
    dp = [0] * (n + 1)
    for i in range(n - 1, -1, -1):
        dp[i] = 10**18
        used = -1
        for j in range(i, n):
            used += lengths[j] + 1
            if used > k:
                break
            extra = 0 if j == n - 1 else (k - used) ** 2
            dp[i] = min(dp[i], extra + dp[j + 1])
    return dp[0]
```

`word_wrap([3, 2, 2, 5], 6)` равно 10. `word_wrap([3, 2, 2], 4)` равно 5.

**Sources:**

- [GeeksforGeeks — Word wrap](https://www.geeksforgeeks.org/dsa/word-wrap-problem-dp-19/)
</details>

<details>
<summary>Implement an algorithm for the maximal square problem in a 2D binary matrix.</summary>

### Implement an algorithm for the maximal square problem in a 2D binary matrix.

**Definition:**

Нужно найти наибольший квадрат из единиц в двоичной матрице и вернуть его площадь. Каждая клетка — одно состояние: если это 1, наибольший квадрат с правым нижним углом в этой клетке равен единице плюс минимум квадратов, которые кончаются слева, сверху и по диагонали. Заполнение каждой клетки один раз — сеточный DP за O(m · n), как GeeksforGeeks оценивает таблицу такой формы.

**How it works:**

- Ноль не может быть углом квадрата из единиц, поэтому его состояние — 0.
- Единица в первой строке или первом столбце — квадрат со стороной 1.
- Ответ — квадрат наибольшей сохранённой стороны.
- Рекуррентность смотрит только на трёх уже посчитанных соседей, поэтому хватает одного прохода слева направо и сверху вниз.

**Examples:**

```text
def maximal_square(matrix):
    if not matrix:
        return 0
    m, n = len(matrix), len(matrix[0])
    side = 0
    dp = [[0] * n for _ in range(m)]
    for i in range(m):
        for j in range(n):
            if matrix[i][j] == "1" or matrix[i][j] == 1:
                if i == 0 or j == 0:
                    dp[i][j] = 1
                else:
                    dp[i][j] = 1 + min(dp[i - 1][j], dp[i][j - 1], dp[i - 1][j - 1])
                side = max(side, dp[i][j])
    return side * side
```

На `[["1","0","1"],["1","1","1"],["1","1","1"]]` наибольшая сторона равна 2, поэтому площадь равна 4.

**Sources:**

- [GeeksforGeeks — Min cost path](https://www.geeksforgeeks.org/dsa/min-cost-path-dp-6/)
</details>

<details>
<summary>Apply Dynamic Programming to solve the maximum profit in job scheduling.</summary>

### Apply Dynamic Programming to solve the maximum profit in job scheduling.

**Definition:**

У каждой работы есть начало, конец и прибыль. Выбранные работы не пересекаются; работа может начаться ровно в момент конца другой. GeeksforGeeks оценивает табличный DP, после сортировки по времени конца и двоичного поиска последней совместимой работы, как O(n log n) времени и O(n) памяти. Рекурсия без памяти — O(2^n).

**How it works:**

- Сортируют работы по времени конца. `dp[i]` — лучшая прибыль на первых `i` работах в этом порядке.
- Работу `i` пропускают, оставляя `dp[i - 1]`, или берут и прибавляют её прибыль к `dp` самой правой более ранней работы, которая кончается не позже этого начала.
- Двоичный поиск находит этого предшественника за O(log n), поэтому каждая из n работ стоит логарифм.
- Пример страницы `[[1, 2, 50], [3, 5, 20], [6, 19, 100], [2, 100, 200]]` стоит 250 за первую и четвёртую работы.

**Examples:**

```text
import bisect

def job_profit(jobs):
    jobs = sorted(jobs, key=lambda job: job[1])
    ends = [job[1] for job in jobs]
    dp = [0] * (len(jobs) + 1)
    for i, (start, end, profit) in enumerate(jobs, 1):
        prev = bisect.bisect_right(ends, start, 0, i - 1)
        dp[i] = max(dp[i - 1], dp[prev] + profit)
    return dp[-1]
```

`job_profit([[1, 2, 50], [3, 5, 20], [6, 19, 100], [2, 100, 200]])` равно 250. `job_profit([[1, 3, 60], [2, 5, 50], [4, 6, 70], [5, 7, 30]])` равно 130.

**Sources:**

- [GeeksforGeeks — Weighted job scheduling](https://www.geeksforgeeks.org/dsa/weighted-job-scheduling/)
</details>

### Dynamic Programming in Graphs

<details>
<summary>How Dynamic Programming can be used for finding shortest paths in graphs (e.g., Floyd-Warshall algorithm)?</summary>

### How Dynamic Programming can be used for finding shortest paths in graphs (e.g., Floyd-Warshall algorithm)?

**Definition:**

Флойд–Уоршелл — кратчайшие пути между всеми парами через динамическое программирование по множеству разрешённых промежуточных вершин. GeeksforGeeks оценивает тройной цикл как O(V³), где V — число вершин, и O(1) дополнительной памяти, когда матрицу расстояний обновляют на месте. Алгоритм допускает отрицательные рёбра и не работает на отрицательных циклах. На плотном графе эта кубическая оценка — причина его выбирать; на разреженном страница указывает на алгоритм Джонсона.

**How it works:**

- `dist[i][j]` начинают с веса прямого ребра, 0 на диагонали и с сторожа, если ребра нет.
- Для каждой промежуточной `k` и каждой пары `(i, j)` заменяют `dist[i][j]` на `dist[i][k] + dist[k][j]`, когда эта сумма меньше и ни один кусок не сторож.
- Когда рассматривают `k`, кратчайшие пути, которые используют только промежуточные вершины меньше `k`, уже известны. Это оптимальная подструктура, на которую опирается страница.
- После всех `k` клетка `dist[i][j]` — кратчайший путь, которому можно пользоваться любой вершиной. Отрицательный цикл виден как отрицательная диагональ, если сделать ещё одну проверку.

**Examples:**

```text
def floyd(dist, inf):
    v = len(dist)
    for k in range(v):
        for i in range(v):
            for j in range(v):
                if dist[i][k] != inf and dist[k][j] != inf:
                    dist[i][j] = min(dist[i][j], dist[i][k] + dist[k][j])
    return dist
```

Три вложенных цикла длины V — это оценка O(V³).

**Sources:**

- [GeeksforGeeks — Floyd–Warshall](https://www.geeksforgeeks.org/dsa/floyd-warshall-algorithm-dp-16/)
</details>

<details>
<summary>How to use Dynamic Programming to find the number of ways to reach a given vertex in a directed acyclic graph?</summary>

### How to use Dynamic Programming to find the number of ways to reach a given vertex in a directed acyclic graph?

**Definition:**

В DAG каждый путь уважает топологический порядок, поэтому число способов дойти до `v` — сумма способов дойти до каждого предшественника. Каждое ребро даёт одно сложение. Пути ровно одной длины `k` — другой DP: CP-Algorithms возводит матрицу смежности в степень `k` за O(n³ log k).

**How it works:**

- Ставят `ways[source] = 1`, а остальные вершины в 0.
- Вершины обходят так, чтобы каждое входящее ребро шло из более ранней вершины. Тогда `ways[v] += ways[u]` для каждого ребра `u → v`.
- Ациклический порядок и делает один проход достаточным. Цикл заставил бы ту же рекуррентность ссылаться на себя.
- Проход трогает каждую вершину и каждое ребро константное число раз, поэтому работа следует `|V| + |E|` после топологической сортировки того же порядка.
- Если вопрос про пути длины ровно `k`, степень матрицы считает их для всех пар сразу, по кубическо-логарифмической цене выше.

**Examples:**

```text
def ways_to(n, edges, source, target):
    incoming = [[] for _ in range(n)]
    indeg = [0] * n
    for u, v in edges:
        incoming[v].append(u)
        indeg[v] += 1
    from collections import deque
    q = deque(i for i in range(n) if indeg[i] == 0)
    order = []
    while q:
        u = q.popleft()
        order.append(u)
        for v in range(n):
            if u in incoming[v]:
                indeg[v] -= 1
                if indeg[v] == 0:
                    q.append(v)
    ways = [0] * n
    ways[source] = 1
    for v in order:
        for u in incoming[v]:
            ways[v] += ways[u]
    return ways[target]
```

Рёбра `(0,1), (0,2), (1,2)` дают `ways_to(3, those, 0, 2) = 2`.

**Sources:**

- [CP-Algorithms — Binary exponentiation (paths of length k)](https://cp-algorithms.com/algebra/binary-exp.html)
</details>

### Game Theory and Dynamic Programming

<details>
<summary>Implement an algorithm to solve the Nim Game using Dynamic Programming.</summary>

### Implement an algorithm to solve the Nim Game using Dynamic Programming.

**Definition:**

Ним при нормальной игре решается ним-суммой: побитовым XOR размеров куч, который Wikipedia также называет сложением без переноса. Позиция выигрышная, когда эта сумма не ноль, потому что ходящий всегда может оставить сумму ноль, а любой ход из нулевой суммы оставляет ненулевую. XOR заменяет DP, состоянием которого был бы весь набор размеров куч.

**How it works:**

- Одна куча размера `n` имеет ним-сумму `n`. Игрок забирает всю кучу и выигрывает, если куча ещё не 0.
- Кучи 3, 4 и 5 имеют ним-сумму `3 ⊕ 4 ⊕ 5 = 2`, поэтому первый выигрывает. Выигрышный ход, который даёт Wikipedia, — уменьшить кучу 3 до 1.
- Буквальный DP всё ещё существует: проигрышные позиции — те, у которых ним-сумма 0, а состояние выигрышно, когда какой-то законный ход ведёт в проигрышное. Мемоизация этого дерева экспоненциальна по числу куч; XOR считает тот же ответ одним проходом по кучам.
- Мизерный ним, где последний предмет проигрывает, совпадает с этой стратегией, пока не останется ровно одна куча размера хотя бы 2. Страница описывает поправку для этого финала.

**Examples:**

```text
def nim_winning(heaps):
    total = 0
    for h in heaps:
        total ^= h
    return total != 0
```

`nim_winning([3, 4, 5])` истинно. `nim_winning([1, 1])` ложно при нормальной игре: ним-сумма равна 0.

**Sources:**

- [Wikipedia — Nim](https://en.wikipedia.org/wiki/Nim)
</details>

<details>
<summary>Apply Dynamic Programming to solve the minimax problem in game theory.</summary>

### Apply Dynamic Programming to solve the minimax problem in game theory.

**Definition:**

Минимакс назначает каждой позиции лучший исход, который ходящий может себе обеспечить. Изложение Нима в Wikipedia — беспристрастный частный случай: позиция выигрышна, когда какой-то ход оставляет сопернику проигрыш, а ним-сумма схлопывает эту рекуррентность. С мемоизированной таблицей каждую различную позицию считают один раз.

**How it works:**

- Конечная позиция имеет фиксированный счёт. При нормальной игре проиграл тот, кто не может походить.
- Ходящий берёт максимум по детям. Если соперник тоже играет оптимально, значение ребёнка — минимум соперника, то есть та же рекурсия со сменой ролей.
- Альфа-бета отсекает ветки, которые не могут изменить выбранный счёт. Значение она не меняет, только избегает работы.
- Предел — пространство состояний. Кучи Нима были бы кортежем, экспоненциальным для хранения, поэтому ним-сумма — замкнутая форма этого DP.
- Нарисовать дерево крошечной игры и заполнить его от листьев вверх — тот же алгоритм, записанный снизу вверх.

**Examples:**

```text
def minimax(state, is_max, moves, score, terminal):
    if terminal(state):
        return score(state)
    values = [minimax(nxt, not is_max, moves, score, terminal) for nxt in moves(state)]
    return max(values) if is_max else min(values)
```

На одной куче Нима рекурсия говорит, что куча 0 — проигрыш для того, кто должен ходить, а любая большая куча — выигрыш.

**Sources:**

- [Wikipedia — Nim](https://en.wikipedia.org/wiki/Nim)
</details>

### Stochastic Dynamic Programming Questions

<details>
<summary>Can Dynamic Programming be used to solve problems with probabilistic states? Provide an example.</summary>

### Can Dynamic Programming be used to solve problems with probabilistic states? Provide an example.

**Definition:**

Да. Значение состояния становится ожиданием или вероятностью, а рекуррентность взвешивает каждое следующее состояние его вероятностью. Таблицу по-прежнему заполняют один раз на состояние — по той же причине, по которой детерминированный сеточный DP, как путь минимальной стоимости, стоит O(числа клеток): у каждого состояния константное число преемников.

**How it works:**

- Пусть `E[s]` — ожидаемая оставшаяся цена из состояния `s`. Тогда `E[s] = cost(s) + Σ p(s, t) · E[t]`.
- Вероятность окончательного успеха имеет ту же форму без добавленной цены: `P[s] = Σ p(s, t) · P[t]`, а поглощающие состояния — 0 или 1.
- Порядок всё ещё должен уважать зависимости. Ациклический процесс заполняют в топологическом порядке. Процесс с циклами — это линейная система, а не один прямой проход.
- Монета, которую бросают до орла, — крошечный пример: из «ещё бросаем» одно испытание стоит 1, с вероятностью 1/2 вы останавливаетесь и с вероятностью 1/2 возвращаетесь. Уравнение `E = 1 + 0.5 · 0 + 0.5 · E` даёт `E = 2`.

**Examples:**

```text
def expected_flips():
    # E = 1 + 0.5 * E  =>  E = 2
    return 2

def ruin(p, i, n):
    # probability of hitting n before 0, starting from i
    if i == 0:
        return 0.0
    if i == n:
        return 1.0
    dp = [0.0] * (n + 1)
    dp[n] = 1.0
    for x in range(1, n):
        # solved in order only when the walk is written as a recurrence;
        # fair coin, closed form i/n
        dp[x] = x / n if p == 0.5 else None
    return dp[i]
```

Честный игрок, который останавливается на 0 или 3 и начинает с 1, доходит до 3 с вероятностью `1/3`.

**Sources:**

- [GeeksforGeeks — Min cost path](https://www.geeksforgeeks.org/dsa/min-cost-path-dp-6/)
</details>

<details>
<summary>How does Stochastic Dynamic Programming differ from deterministic Dynamic Programming, and what are its applications?</summary>

### How does Stochastic Dynamic Programming differ from deterministic Dynamic Programming, and what are its applications?

**Definition:**

В детерминированном DP у каждого решения одно следующее состояние. В стохастическом DP следующее состояние — распределение, поэтому шаг Беллмана берёт ожидание. Сетка минимальной стоимости — детерминированный образец: из клетки преемника выбирают, а не разыгрывают. Уравнение монеты до орла — стохастический образец: то же состояние возвращается с вероятностью 1/2.

**How it works:**

- Детерминированная рекуррентность — `V(s) = min по действиям cost(s, a) + V(next(s, a))`.
- Стохастическая вставляет распределение: `V(s) = min по действиям cost(s, a) + Σ_t p(t | s, a) · V(t)`.
- Оптимальная подструктура по-прежнему верна для ожидания, поэтому таблица работает. Хранят одно число на состояние, а не одно число на случайный исход.
- Заполнение ациклического графа состояний — по-прежнему одна запись на состояние. Циклы, как в процессе с бесконечным горизонтом, требуют итерации ценности или линейного решения, а не одного прохода.
- Применения — там, где следующий спрос, отказ или ход соперника случаен: пополнение запасов, замена оборудования и марковские процессы принятия решений. Игра чистого навыка, как Ним, остаётся детерминированной; только узлы случая делают обновление средним.

**Examples:**

```text
def deterministic(cost):
    # one successor: V = cost + V[next]
    return cost

def stochastic(cost, outcomes):
    # outcomes is a list of (probability, value)
    return cost + sum(p * v for p, v in outcomes)
```

`stochastic(1, [(0.5, 0), (0.5, 2)])` равно 2 — ожидаемое число бросков честной монеты до орла, когда возврат уже решён как 2.

**Sources:**

- [GeeksforGeeks — Min cost path](https://www.geeksforgeeks.org/dsa/min-cost-path-dp-6/)
- [Wikipedia — Nim](https://en.wikipedia.org/wiki/Nim)
</details>
