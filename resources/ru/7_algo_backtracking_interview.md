# Backtracking — собеседование

Ответы на вопросы этого файла заполнены.

[← К обзору](./7_special_algorithms.md)

### Related docs

- [Backtracking — собеседование](./7_algo_backtracking_interview.md)

### Sections

- [Interview Practice](#interview-practice)

---

## Interview Practice

Questions from [Devinterview.io — Backtracking](https://devinterview.io/questions/data-structures-and-algorithms/backtracking-algorithms-interview-questions/).

### Fundamental Concepts and Techniques

<details>
<summary>What is Backtracking?</summary>

### What is Backtracking?

**Definition:**

Поиск с возвратом собирает кандидата по одному выбору и отменяет последний выбор, как только он не может привести к допустимому решению.

**How it works:**

- Поиск — обход в глубину по частичным решениям. На каждом шаге берут допустимое расширение, уходят в рекурсию и восстанавливают состояние.
- Проверка ограничения на частичном кандидате отсекает целое поддерево. Эта ранняя остановка отличает метод от перечисления всех полных объектов.
- Стек вызовов хранит путь от корня к текущему выбору. Возврат из вызова — это отмена.
- Подходит головоломкам с ограничениями: N ферзей, подмножества с заданной суммой, судоку и порождение перестановок.

**Examples:**

```text
взяли 1, затем 2 -> сумма 3, мало, идём дальше
взяли 1, 2, 4 -> сумма 7, цель, записываем
откат 4, откат 2, пробуем 1 затем 3
```
</details>

<details>
<summary>How does backtracking differ from brute force methods?</summary>

### How does backtracking differ from brute force methods?

**Definition:**

Полный перебор порождает готовых кандидатов и проверяет их в конце. Поиск с возвратом отвергает частичного кандидата и не достраивает ветки под ним.

**How it works:**

- Оба могут быть экспоненциальными. Выигрыш поиска с возвратом — объём отсечения, и он зависит от того, как рано ломается ограничение.
- Перебор перестановок 8 ферзей проверяет 8!. Поиск с возвратом ставит ферзя за ферзём и бросает строку, как только двое делят столбец или диагональ.
- Если ограничение можно проверить только на готовом кандидате, поиск с возвратом вырождается в то же дерево, что и полный перебор.
- Форма кода тоже другая: полный перебор часто собирает объект циклом или рекурсией без отмены неудачного префикса.
</details>

<details>
<summary>Explain the concept of a decision tree in backtracking algorithms.</summary>

### Explain the concept of a decision tree in backtracking algorithms.

**Definition:**

Дерево решений — дерево выборов: каждый уровень — одна переменная, каждое ребро — одно значение, которое можно назначить.

**How it works:**

- Корень — пустое назначение. Лист — либо полное допустимое решение, либо тупик.
- Порядок слева направо среди братьев — порядок перебора значений. Поиск в глубину проходит один путь до листа, прежде чем взять следующего брата.
- Отсечение удаляет узел и всё под ним, когда частичное назначение уже нарушает ограничение.
- Рисунок дерева объясняет алгоритм, даже если реализация — только рекурсивная функция.

**Examples:**

Сумма подмножества на `{1, 2}` с целью 2: первый уровень — «взять 1 или нет», второй — «взять 2 или нет». Путь взять-1, пропустить-2 даёт 1 и умирает. Путь пропустить-1, взять-2 даёт 2 и является листом-решением.
</details>

<details>
<summary>Discuss common optimizations in backtracking to improve efficiency.</summary>

### Discuss common optimizations in backtracking to improve efficiency.

**Definition:**

Оптимизации уменьшают дерево: падать раньше, пробовать перспективные значения первыми или помнить состояние, которое уже решили.

**How it works:**

- Предварительная проверка убирает значения, которые последнее назначение сделало невозможными, ещё до рекурсивного вызова.
- Порядок переменных, например наименьший оставшийся домен, роняет ветку высоко в дереве, а не после длинного префикса.
- Битовые маски и нарастающий счёт обновляют ограничение за O(1) или O(ширина), а не перечитывают всё частичное решение.
- Мемоизация уместна, только когда в одно подсостояние можно прийти разными путями. У чистого перебора перестановок повторов часто нет.
</details>

<details>
<summary>How does backtracking relate to other algorithmic paradigms like divide and conquer?</summary>

### How does backtracking relate to other algorithmic paradigms like divide and conquer?

**Definition:**

Оба рекурсивны, но режут работу по-разному. Разделяй и властвуй решает независимые подзадачи и соединяет их. Поиск с возвратом идёт по одному пути, отменяет его и пробует другой.

**How it works:**

- У разделяй и властвуй подзадачи не делят изменяемую доску. Половинки mergesort можно сортировать отдельно.
- Рекурсивный вызов поиска с возвратом наследует доску и обязан её восстановить, потому что соседнему вызову нужно состояние родителя.
- Задача может использовать оба: шаг разделения, а затем возврат внутри одной области, или поиск с оценкой границы по замкнутой формуле.
- Динамическое программирование — следующий родственник, когда подзадачи повторяются и ответы хранят, а не обходят заново.
</details>

<details>
<summary>Describe the role of state space tree in understanding backtracking algorithms.</summary>

### Describe the role of state space tree in understanding backtracking algorithms.

**Definition:**

Дерево пространства состояний — дерево решений одного прогона: узлы — частичные состояния, и алгоритм посещает только часть из них.

**How it works:**

- Состояние — уже назначенные переменные плюс нарастающие факты, которые вы храните (занятые столбцы, текущая сумма).
- Полное дерево существует как картина. Работающий алгоритм хранит только текущий путь, поэтому лишняя память пропорциональна глубине.
- Перспективный узел ещё имеет допустимое расширение. Бесперспективный нарушает ограничение и не раскрывается.
- Настоящая цена — число посещённых узлов, а не размер полного дерева. Его задают конкретный порядок и правило отсечения.
</details>

<details>
<summary>Explain the concept of constraint satisfaction in backtracking.</summary>

### Explain the concept of constraint satisfaction in backtracking.

**Definition:**

Задача удовлетворения ограничений — набор переменных, домен каждой и ограничения, которым должны подчиняться комбинации. Поиск с возвратом назначает переменные, пока все ограничения не выполнены.

**How it works:**

- Унарные ограничения касаются одной переменной. Бинарные связывают пару, например два ферзя не делят диагональ.
- Частичное назначение проверяют по ограничениям, которые упоминают только уже назначенные переменные. Ждать полного назначения — тратить префикс.
- Распространение ограничений сужает домены после каждого назначения. Согласованность по дуге убирает значение, у которого нет опоры в домене соседа.
- Судоку — стандартная картина: 81 переменная, домены 1–9 и ограничения «все различны» на строки, столбцы и блоки.
</details>

### Implementing Backtracking

<details>
<summary>Outline a method to implement backtracking iteratively.</summary>

### Outline a method to implement backtracking iteratively.

**Definition:**

Явный стек хранит кадры `(индекс переменной, следующее значение, снимок)`, а цикл кладёт и снимает эти кадры вместо стека вызовов.

**How it works:**

- Кладём первую переменную с первым кандидатом. Чтобы углубиться, кладём следующую переменную. Чтобы вернуться, снимаем кадр и сдвигаем значение на новой вершине.
- Отмена — то, что записал кадр: очистить клетку, вернуть сумму или снять выбранный предмет.
- Цикл кончается, когда стек пуст. Кадр, который перебрал все значения, снимается.
- Порядок тот же, что у рекурсии в глубину, и нет переполнения стека вызовов на глубоком назначении. Логику легче сломать, потому что отмена ручная.

**Examples:**

```text
stack: [(col=0, next_row=0)]
поставили ферзя, push (col=1, next_row=0)
тупик -> pop, next_row += 1, пробуем снова
```
</details>

<details>
<summary>What are the considerations for choosing candidates at each step in a backtracking algorithm?</summary>

### What are the considerations for choosing candidates at each step in a backtracking algorithm?

**Definition:**

Кандидат должен быть допустим при уже сделанных назначениях, и порядок перебора меняет, как быстро найдётся первое решение.

**How it works:**

- Порождают из домена и отвергают ограничением, или сразу порождают только значения, которые проходят дешёвую локальную проверку.
- Для первого решения сначала пробуют значения, которые скорее удадутся. Для всех решений порядок не меняет множество, только порядок посещения.
- Наименее ограничивающее значение пробует выбор, который закрывает меньше всего вариантов у соседей.
- Генератор кандидатов, который сам сканирует всю доску, может съесть время, даже когда отсечение хорошее.
</details>

<details>
<summary>Describe the role of pruning in backtracking algorithms.</summary>

### Describe the role of pruning in backtracking algorithms.

**Definition:**

Отсечение отказывается раскрывать узел, чьё частичное назначение уже обречено, поэтому потомки не строятся.

**How it works:**

- Отсечение по допустимости использует жёсткое ограничение: ферзь под боем, сумма уже больше цели, цифра судоку повторилась.
- Отсечение по границе использует оценку: если лучшее возможное завершение хуже уже найденного решения, ветку бросают. Это вариант метода ветвей и границ.
- Отсечение безопасно, только когда проверка не даёт ложных отказов. Проверка, которая отвергает префикс настоящего решения, теряет ответы.
- Тот же алгоритм со слабой проверкой посещает гораздо больше узлов. Корректность может сохраниться, а время взрывается.
</details>

<details>
<summary>How can memoization be integrated with backtracking?</summary>

### How can memoization be integrated with backtracking?

**Definition:**

Мемоизация запоминает ответ подсостояния при первом решении, и поздние пути, которые пришли в то же состояние, берут этот ответ.

**How it works:**

- Ключ должен включать всё, что ещё влияет на результат: индекс старта, оставшуюся цель, маску занятого. Забытое поле вернёт неверный кэш.
- Она помогает поискам в духе суммы подмножества, где много путей делят хвост. Она мало помогает, когда у каждого пути своя доска.
- Память — число различных состояний, и оно может быть больше глубины. Это обычный обмен динамического программирования.
- Хранят булево, счётчик или одно восстановленное решение. Весь список решений хранят, только когда они действительно все нужны.

**Examples:**

Оставшаяся ёмкость рюкзака 7 на предмете 3 — одно состояние. Первый путь его считает. Поздний путь, который тоже пришёл к предмету 3 с ёмкостью 7, читает закэшированное лучшее значение.
</details>

<details>
<summary>Explain the importance of backtracking in recursive algorithm design.</summary>

### Explain the importance of backtracking in recursive algorithm design.

**Definition:**

Поиск с возвратом — стандартная рекурсивная форма «попробовать выбор, исследовать, отменить». Состояние родителя остаётся целым для следующего выбора.

**How it works:**

- Контракт функции: на входе доска допустима, на выходе она не изменилась.
- Забытая отмена — ошибка, из-за которой поздние соседи видят выбор, которого не делали.
- Та же форма порождает сочетания, перестановки и разбиения. Меняются только правило кандидата и ограничение.
- Это ещё и картина парсеров и решателей, которые фиксируют токен или ход и отступают, когда хвост не сошёлся.
</details>

<details>
<summary>Explain the impact of variable ordering on the performance of backtracking algorithms.</summary>

### Explain the impact of variable ordering on the performance of backtracking algorithms.

**Definition:**

Порядок переменных меняет форму дерева. Провал на тесной переменной в начале срезает больше веток, чем провал на ней после длинного префикса.

**How it works:**

- Минимум оставшихся значений берёт следующей переменную с самым маленьким доменом. Домен размера 1 — вынужденный ход, его делают сразу.
- Статический порядок, зафиксированный до поиска, проще и всё ещё может быть плохим, если первые переменные самые свободные.
- Эвристика степени при равенстве выбирает переменную, которая входит в больше всего ограничений.
- Порядок не меняет, существует ли решение. Он меняет, сколько узлов вы тронете, прежде чем это узнаете.

**Examples:**

В судоку клетка с двумя допустимыми цифрами, заполненная раньше клетки с семью, быстрее заканчивает или роняет ветку, чем обратный порядок.
</details>

### Complexity Analysis

<details>
<summary>Explain the time and space complexity of a typical backtracking algorithm.</summary>

### Explain the time and space complexity of a typical backtracking algorithm.

**Definition:**

Время зависит от числа узлов, которые поиск реально посетил. Память зависит от глубины одного пути плюс вывод, если хранить каждое решение.

**How it works:**

- Полное дерево с ветвлением `b` и глубиной `d` — O(bᵈ) узлов. Отсечение уменьшает типичный случай и не меняет худший.
- Работа на узел — цена порождения кандидата и проверки ограничения. Наивный проход может сделать O(bᵈ) узлов ещё дороже.
- Глубина рекурсии — O(d). Явная доска размера d — ещё O(d) памяти.
- Цена, зависящая от вывода, важна: перечислить все перестановки — Θ(n · n!), потому что листьев n! и каждую копируют за O(n).
</details>

<details>
<summary>How do worst-case scenarios in backtracking compare to other algorithms?</summary>

### How do worst-case scenarios in backtracking compare to other algorithms?

**Definition:**

В худшем случае поиск с возвратом всё ещё обходит полное экспоненциальное дерево, того же порядка, что полный перебор, когда каждый частичный кандидат выглядит допустимым до конца.

**How it works:**

- Задача с жёстким ограничением, такая как N ферзей, сильно отсекает типичные доски и всё равно имеет экспоненциальный худший случай.
- Динамическое программирование выигрывает, когда пространство состояний полиномиально и повторяется. Поиск с возвратом без мемоизации пересчитывает эти пересечения.
- Жадный алгоритм или замкнутая форма лучше, когда у задачи есть нужная им структура. Поиск с возвратом — то, чем пользуются, когда её нет.
- Метод ветвей и границ улучшает практический худший поиск в оптимизации за счёт границы и всё равно не обещает полиномиальное время.
</details>

### Classic Backtracking Problems and Challenges

<details>
<summary>Provide a backtracking solution for the N-Queens problem.</summary>

### Provide a backtracking solution for the N-Queens problem.

**Definition:**

Нужно поставить n ферзей на доску n×n так, чтобы никакие два не делили строку, столбец или диагональ. GeeksforGeeks оценивает простой перебор с возвратом как O(n!) времени и O(n²) дополнительной памяти на доску и рекурсию, а форму с хешами как O(n!) времени и O(n) памяти. Для n = 4 списки столбцов — `[2, 4, 1, 3]` и `[3, 1, 4, 2]`. Для n = 3 решения нет.

**How it works:**

- Один ферзь на строку. Столбец в строке `r` должен быть свободен, и свободны обе диагонали `r - c` и `r + c`.
- Ставят ферзя, идут в следующую строку и снимают его. Это снятие и есть возврат.
- Факториальная оценка — перестановка столбцов до отсечения диагоналей. Множества делают проверку безопасности O(1); битовая маска — та же идея.
- Глубина рекурсии — n, один кадр на строку.

**Examples:**

```text
def solve_nqueens(n):
    cols, d1, d2 = set(), set(), set()
    board, res = [], []
    def dfs(r):
        if r == n:
            res.append(board[:])
            return
        for c in range(n):
            if c in cols or (r - c) in d1 or (r + c) in d2:
                continue
            cols.add(c); d1.add(r - c); d2.add(r + c); board.append(c + 1)
            dfs(r + 1)
            cols.remove(c); d1.remove(r - c); d2.remove(r + c); board.pop()
    dfs(0)
    return res
```

`solve_nqueens(4)` равно `[[2, 4, 1, 3], [3, 1, 4, 2]]`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Solve a Sudoku puzzle with backtracking.</summary>

### Solve a Sudoku puzzle with backtracking.

**Definition:**

Нужно заполнить сетку 9×9 так, чтобы каждая строка, столбец и квадрат 3×3 содержали цифры от 1 до 9 по одному разу. Перебор с возвратом пробует цифру в следующей пустой клетке и снимает её, когда частичную сетку нельзя закончить. Та же схема «поставить и снять» — то, чем GeeksforGeeks решает N ферзей и оценивает как O(n!) до отсечения; здесь у пустой клетки не больше 9 кандидатов.

**How it works:**

- Ищут следующую пустую клетку. Если её нет, сетка решена.
- Цифра законна, когда её нет в этой строке, столбце и квадрате.
- Пишут цифру, идут в рекурсию и при неудаче возвращают пустую метку.
- Индекс квадрата — `(row // 3) * 3 + (col // 3)`. Отсечение происходит на первой конфликтной цифре, поэтому дерево 9^k для k пустых клеток не обходится целиком.

**Examples:**

```text
def solve_sudoku(board):
    def ok(r, c, d):
        if d in board[r]:
            return False
        if any(board[i][c] == d for i in range(9)):
            return False
        br, bc = 3 * (r // 3), 3 * (c // 3)
        return all(board[i][j] != d for i in range(br, br + 3) for j in range(bc, bc + 3))
    def dfs():
        for r in range(9):
            for c in range(9):
                if board[r][c] != ".":
                    continue
                for d in "123456789":
                    if not ok(r, c, d):
                        continue
                    board[r][c] = d
                    if dfs():
                        return True
                    board[r][c] = "."
                return False
        return True
    return dfs()
```

Пустая клетка, которая уже видит 1–8 в своей строке, принимает только 9, и поиск идёт дальше.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Solve the rat in a maze problem with backtracking.</summary>

### Solve the rat in a maze problem with backtracking.

**Definition:**

Крыса начинает в левом верхнем углу лабиринта из 0 и 1 и может идти в открытую соседнюю клетку. Поиск помечает текущую клетку, идёт в рекурсию и снимает пометку, чтобы другой маршрут мог её использовать. Тупики откатываются. Ветвление — та же схема «поставить и снять», которой GeeksforGeeks пользуется для N ферзей.

**How it works:**

- Открыты только клетки со значением 1. Ходы обычно вправо и вниз или во все четыре стороны, если условие это разрешает.
- Путь, который дошёл до правого нижнего угла, — ответ. Клетки записывают, затем откатывают, чтобы поздние пути всё ещё нашлись.
- Без снятия пометки поиск навсегда считал бы клетку текущего пути стеной.
- В худшем случае каждую открытую клетку пробуют из каждого префикса, поэтому дерево растёт с числом выборов на шаге. У лабиринта только вправо и вниз на открытой сетке n×n число путей биномиально, и поиск их перечисляет.

**Examples:**

```text
def maze_paths(maze):
    n = len(maze)
    path, res = [], []
    def dfs(r, c):
        if not (0 <= r < n and 0 <= c < n) or maze[r][c] != 1:
            return
        path.append((r, c))
        maze[r][c] = -1
        if (r, c) == (n - 1, n - 1):
            res.append(path[:])
        else:
            dfs(r, c + 1)
            dfs(r + 1, c)
        maze[r][c] = 1
        path.pop()
    if maze and maze[0][0] == 1:
        dfs(0, 0)
    return res
```

На `[[1, 0], [1, 1]]` единственный путь — `(0, 0) → (1, 0) → (1, 1)`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Write a backtracking algorithm to generate all permutations of a string.</summary>

### Write a backtracking algorithm to generate all permutations of a string.

**Definition:**

Перестановка — это порядок символов. Перебор с возвратом меняет следующую позицию с каждым поздним кандидатом и меняет обратно. Перечисление пишет n! строк, а копирование строки длины n делает цену вывода Θ(n · n!), то же факториальное семейство, которое GeeksforGeeks записывает как O(n!) для дерева N ферзей.

**How it works:**

- На индексе `i` каждый индекс `j >= i` — выбор для позиции `i`.
- Меняют местами, идут к `i + 1`, меняют обратно.
- Повторяющийся символ на той же глубине пропускают, если вход повторяется, чтобы одинаковые перестановки не выдать дважды.
- Глубина рекурсии — n. Листья — перестановки.

**Examples:**

```text
def permutations(s):
    chars, out = list(s), []
    def dfs(i):
        if i == len(chars):
            out.append("".join(chars))
            return
        seen = set()
        for j in range(i, len(chars)):
            if chars[j] in seen:
                continue
            seen.add(chars[j])
            chars[i], chars[j] = chars[j], chars[i]
            dfs(i + 1)
            chars[i], chars[j] = chars[j], chars[i]
    dfs(0)
    return out
```

`permutations("ab")` равно `["ab", "ba"]`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Implement a backtracking solution for the subset sum problem.</summary>

### Implement a backtracking solution for the subset sum problem.

**Definition:**

Для каждого элемента решают, входит ли он в подмножество, и откатывают выбор. GeeksforGeeks оценивает эту рекурсию «взять или пропустить» как O(2^n) времени и O(n) памяти. Таблица DP на той же странице — O(sum · n); перебор с возвратом — дерево, которое таблица сжимает.

**How it works:**

- Оставшаяся цель и следующий индекс — состояние.
- Оставшаяся цель 0 — попадание. Отрицательная цель или кончившийся массив — промах.
- Сначала включают, потом исключают. Добавление и снятие выбранного значения собирает одно подмножество-свидетель.
- Сортировка и остановка, когда следующее значение больше остатка, отсекает ветки и не меняет худший случай O(2^n) рекурсии со страницы.

**Examples:**

```text
def subset_sums(arr, target):
    arr = sorted(arr)
    res, cur = [], []
    def dfs(i, left):
        if left == 0:
            res.append(cur[:])
            return
        if i == len(arr) or left < 0:
            return
        cur.append(arr[i])
        dfs(i + 1, left - arr[i])
        cur.pop()
        dfs(i + 1, left)
    dfs(0, target)
    return res
```

`subset_sums([3, 34, 4, 12, 5, 2], 9)` содержит `[4, 5]`.

**Sources:**

- [GeeksforGeeks — Subset sum](https://www.geeksforgeeks.org/dsa/subset-sum-problem-dp-25/)
</details>

<details>
<summary>Develop a backtracking solution to the Crossword Puzzle problem.</summary>

### Develop a backtracking solution to the Crossword Puzzle problem.

**Definition:**

Кроссворд кладёт каждое словарное слово в слот нужной длины и снимает его, когда следующее слово уже не встаёт. Это схема N ферзей: выбрать, уйти в рекурсию и откатить. Неограниченный поиск GeeksforGeeks оценивает как O(n!).

**How it works:**

- Слоты — ряды пустых клеток по горизонтали или вертикали. Слово входит в слот, только если длина совпала и каждая занятая клетка согласна.
- Пишут слово, помечают слот занятым, идут к следующему слоту и стирают буквы, которые написало это слово.
- Общие клетки — ограничения. Буква горизонтального слова отсекает вертикальное, которое её пересекает.
- Коэффициент ветвления — число неиспользованных слов этой длины.

**Examples:**

```text
def fits(grid, slot, word):
    (r, c, dr, dc) = slot
    for k, ch in enumerate(word):
        cell = grid[r + dr * k][c + dc * k]
        if cell not in ("-", ch):
            return False
    return True
```

Слот длины 3, у которого средняя клетка уже `A`, принимает `CAT` и отвергает `DOG`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Create a backtracking solution for the Word Search puzzle.</summary>

### Create a backtracking solution for the Word Search puzzle.

**Definition:**

Нужно понять, лежит ли слово в сетке путём по соседним клеткам, без повторного использования клетки. Клетку помечают, пробуют четырёх соседей для следующей буквы и снимают пометку. Это снятие — тот же шаг возврата, что у N ферзей.

**How it works:**

- Каждая клетка, совпавшая с первой буквой, — старт.
- От совпавшего префикса длины `k` сосед должен равняться следующей букве и не лежать на текущем пути.
- Пометка запрещает повтор. Её снятие позволяет другому пути взять клетку позже.
- На шаге не больше 4 соседей, а путь не длиннее слова, поэтому один старт исследует дерево с ветвлением 4 и глубиной, равной слову.

**Examples:**

```text
def exist(board, word):
    m, n = len(board), len(board[0])
    def dfs(r, c, k):
        if k == len(word):
            return True
        if not (0 <= r < m and 0 <= c < n) or board[r][c] != word[k]:
            return False
        saved, board[r][c] = board[r][c], "#"
        ok = any(dfs(r + dr, c + dc, k + 1) for dr, dc in ((1, 0), (-1, 0), (0, 1), (0, -1)))
        board[r][c] = saved
        return ok
    return any(dfs(r, c, 0) for r in range(m) for c in range(n))
```

`exist([["A","B"],["C","D"]], "ABD")` истинно по пути `A → B → D`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

### Advanced Problem Solving with Backtracking

<details>
<summary>Solve the graph coloring problem backtracking.</summary>

### Solve the graph coloring problem backtracking.

**Definition:**

Назначают каждой вершине цвет из 1..m так, чтобы ни одно ребро не соединяло вершины одного цвета. Пробуют цвет, идут к следующей вершине и откатывают. Неограниченное назначение m цветов n вершинам — дерево m^n; N ферзей — частный случай, который GeeksforGeeks оценивает как O(n!), когда выборы образуют перестановку.

**How it works:**

- Вершины красят по порядку. Цвет законен, когда ни один уже покрашенный сосед его не держит.
- Если ни один цвет не подходит, поиск возвращается, и предыдущая вершина пробует следующий цвет.
- m = 1 удаётся только на графе без рёбер. Двудольный граф 2-раскрашиваем; поиск обнаруживает это успехом или исчерпанием дерева.
- Глубина рекурсии — число вершин.

**Examples:**

```text
def colorable(n, edges, m):
    adj = [[] for _ in range(n)]
    for u, v in edges:
        adj[u].append(v); adj[v].append(u)
    color = [0] * n
    def dfs(v):
        if v == n:
            return True
        for c in range(1, m + 1):
            if any(color[u] == c for u in adj[v]):
                continue
            color[v] = c
            if dfs(v + 1):
                return True
            color[v] = 0
        return False
    return dfs(0)
```

Треугольник не 2-раскрашиваем и 3-раскрашиваем.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Implement a backtracking solution for the Knight's Tour problem.</summary>

### Implement a backtracking solution for the Knight's Tour problem.

**Definition:**

Тур коня посещает каждую клетку шахматной доски ровно один раз ходами коня. Ставят коня, идут в рекурсию и снимают его, когда ветка умирает. Пометка доски — тот же откат, которым GeeksforGeeks пользуется, когда постановка ферзя не удалась.

**How it works:**

- С клетки у коня не больше восьми Г-образных ходов. Клетки вне доски и уже посещённые незаконны.
- Путь из n² посещений — тур. Поиск пишет номер хода на доску и стирает его на обратном пути.
- Сырое дерево огромно. Эвристика Варнсдорфа, выбор клетки с наименьшим числом продолжений, — упорядочивание того же поиска, а не другая задача.
- Глубина — число клеток.

**Examples:**

```text
def knight_tour(n=5):
    board = [[-1] * n for _ in range(n)]
    moves = [(1, 2), (1, -2), (-1, 2), (-1, -2), (2, 1), (2, -1), (-2, 1), (-2, -1)]
    def dfs(r, c, step):
        board[r][c] = step
        if step == n * n - 1:
            return True
        for dr, dc in moves:
            nr, nc = r + dr, c + dc
            if 0 <= nr < n and 0 <= nc < n and board[nr][nc] == -1 and dfs(nr, nc, step + 1):
                return True
        board[r][c] = -1
        return False
    return board if dfs(0, 0, 0) else None
```

На доске 5×5 тур из угла существует; первая клетка хранит 0, последняя — 24.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Use backtracking approach to solve cryptarithmetic puzzles.</summary>

### Use backtracking approach to solve cryptarithmetic puzzles.

**Definition:**

Криптарифм вроде `SEND + MORE = MONEY` назначает каждой букве свою цифру так, чтобы уравнение выполнялось, а ведущие цифры не были нулём. Пробуют цифру, идут к следующей букве и откатывают. Различные цифры — перестановка подмножества 0–9, то же факториальное семейство поиска, что и N ферзей.

**How it works:**

- Каждую новую букву отображают в неиспользованную цифру. Первая буква слова не может быть 0.
- Когда все буквы назначены, считают сумму. Совпадение — решение.
- Проверка по столбцам с переносом отсекает до последней буквы: столбец, который уже не сходится, поздние буквы не спасут.
- Десять цифр и k различных букв дают P(10, k) листьев до этого отсечения.

**Examples:**

```text
def solve_send_more():
    letters = "SENDMORY"
    used = [False] * 10
    assign = {}
    def value(word):
        n = 0
        for ch in word:
            n = n * 10 + assign[ch]
        return n
    def dfs(i):
        if i == len(letters):
            return value("SEND") + value("MORE") == value("MONEY")
        for d in range(10):
            if used[d] or (d == 0 and letters[i] in "SM"):
                continue
            used[d] = True
            assign[letters[i]] = d
            if dfs(i + 1):
                return True
            used[d] = False
        return False
    dfs(0)
    return assign
```

Одно известное решение — `9567 + 1085 = 10652`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Solve the Hamiltonian path problem using backtracking.</summary>

### Solve the Hamiltonian path problem using backtracking.

**Definition:**

Гамильтонов путь посещает каждую вершину один раз. Его строят, дописывая неиспользованного соседа и снимая вершину, когда ветка не удалась. Поиск — перестановка вершин, отфильтрованная рёбрами, поэтому он в семействе O(n!), которое GeeksforGeeks указывает для N ферзей.

**How it works:**

- Начинают с каждой вершины, если путь может начаться где угодно, или с заданного истока.
- Путь гамильтонов, когда в нём все вершины.
- Кандидаты — только соседи по графу, поэтому отсутствующие рёбра отсекаются до листа.
- Цикл — тот же поиск плюс ребро от последней вершины к первой.

**Examples:**

```text
def ham_path(n, edges):
    adj = [[] for _ in range(n)]
    for u, v in edges:
        adj[u].append(v); adj[v].append(u)
    path = []
    def dfs(u, seen):
        path.append(u)
        if len(path) == n:
            return True
        for v in adj[u]:
            if v in seen:
                continue
            seen.add(v)
            if dfs(v, seen):
                return True
            seen.remove(v)
        path.pop()
        return False
    for s in range(n):
        if dfs(s, {s}):
            return path
    return None
```

Путь-граф `0—1—2` даёт гамильтонов путь вроде `[0, 1, 2]`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Solve Word Break problem using backtracking.</summary>

### Solve Word Break problem using backtracking.

**Definition:**

Режут строку на каждом словарном слове, которое совпало с префиксом, затем откатывают выбор и пробуют следующее слово. GeeksforGeeks оценивает эту рекурсию без мемоизации как O(2^n). DP на той же странице переиспользует перекрывающиеся префиксы и стоит O(n · m · L).

**How it works:**

- С индекса `i` пробуют каждое словарное слово, равное `s[i:i+len]`.
- Совпадение дописывает слово и уходит в рекурсию с нового индекса. Неудача снимает слово.
- Достижение `i == len(s)` записывает одно разбиение.
- `"ilike"` со словарём `{i, like, gfg}` даёт `["i", "like"]`. Экспоненциальная оценка — наивный подход страницы, до булева DP.

**Examples:**

```text
def word_break_bt(s, words):
    words, res, cur = set(words), [], []
    def dfs(i):
        if i == len(s):
            res.append(cur[:])
            return
        for w in words:
            if s.startswith(w, i):
                cur.append(w)
                dfs(i + len(w))
                cur.pop()
    dfs(0)
    return res
```

`word_break_bt("ilike", ["i", "like", "gfg"])` равно `[["i", "like"]]`.

**Sources:**

- [GeeksforGeeks — Word Break](https://www.geeksforgeeks.org/dsa/word-break-problem-dp-32/)
</details>

<details>
<summary>Write a backtracking algorithm for palindrome partitioning of a string.</summary>

### Write a backtracking algorithm for palindrome partitioning of a string.

**Definition:**

Режут строку на непрерывные куски, каждый из которых — палиндром. Пробуют каждый конец следующего куска, оставляют его, только если срез читается одинаково в обе стороны, и снимают на обратном пути. Дерево «каждый разрез» — рекурсия O(2^n), которую GeeksforGeeks указывает для поиска word break без памяти; здесь проверка словаря — проверка палиндрома.

**How it works:**

- С индекса `i` каждый `j > i` — кандидат на разрез.
- `s[i:j]` оставляют, только когда он равен своему развороту.
- Разбиение закончено при `i == len(s)`.
- `"aab"` даёт `["a", "a", "b"]` и `["aa", "b"]`.

**Examples:**

```text
def pal_parts(s):
    res, cur = [], []
    def dfs(i):
        if i == len(s):
            res.append(cur[:])
            return
        for j in range(i + 1, len(s) + 1):
            piece = s[i:j]
            if piece == piece[::-1]:
                cur.append(piece)
                dfs(j)
                cur.pop()
    dfs(0)
    return res
```

`pal_parts("aab")` равно `[["a", "a", "b"], ["aa", "b"]]`.

**Sources:**

- [GeeksforGeeks — Word Break](https://www.geeksforgeeks.org/dsa/word-break-problem-dp-32/)
</details>

<details>
<summary>Solve the combination sum problem using a backtracking approach.</summary>

### Solve the combination sum problem using a backtracking approach.

**Definition:**

Выбирают числа, которые дают цель. Если повтор разрешён, тот же индекс можно взять снова; если нет, поиск идёт к следующему индексу. В обоих случаях выбор снимают. GeeksforGeeks оценивает рекурсию «взять или пропустить» для подмножества как O(2^n); повтор строит другое дерево, которое всё равно отсекается, когда частичная сумма превысила цель.

**How it works:**

- Кандидатов сортируют, чтобы значение больше остатка останавливало цикл.
- Дописывают кандидата, идут в рекурсию с уменьшенным остатком, снимают его.
- Старт следующего выбора с `i` разрешает повтор. Старт с `i + 1` берёт каждый элемент один раз — это сумма подмножества.
- Остаток 0 записывает текущую комбинацию.

**Examples:**

```text
def combination_sum(candidates, target):
    candidates = sorted(candidates)
    res, cur = [], []
    def dfs(start, left):
        if left == 0:
            res.append(cur[:])
            return
        for i in range(start, len(candidates)):
            if candidates[i] > left:
                break
            cur.append(candidates[i])
            dfs(i, left - candidates[i])
            cur.pop()
    dfs(0, target)
    return res
```

`combination_sum([2, 3, 6, 7], 7)` содержит `[7]` и `[2, 2, 3]`.

**Sources:**

- [GeeksforGeeks — Subset sum](https://www.geeksforgeeks.org/dsa/subset-sum-problem-dp-25/)
</details>

<details>
<summary>Implement a backtracking algorithm to find all valid IP addresses from a string of numbers.</summary>

### Implement a backtracking algorithm to find all valid IP addresses from a string of numbers.

**Definition:**

Адрес IPv4 — четыре целых от 0 до 255, записанных десятично без ведущего нуля. Перебор с возвратом выбирает длину следующего сегмента, от 1 до 3 цифр, и откатывает её. Сегментов только четыре, поэтому дерево крошечное рядом с поиском N ферзей за O(n!): не больше 3^4 листьев до числовых проверок.

**How it works:**

- Сегмент незаконен, если у него ведущий ноль и длина больше 1, или если значение больше 255.
- После четырёх сегментов вход должен быть израсходован точно.
- `"25525511135"` даёт `255.255.111.35` и `255.255.11.135`.
- Снятие сегмента и позволяет попробовать следующую длину.

**Examples:**

```text
def restore_ip(s):
    res, cur = [], []
    def dfs(i):
        if len(cur) == 4:
            if i == len(s):
                res.append(".".join(cur))
            return
        for length in (1, 2, 3):
            if i + length > len(s):
                break
            piece = s[i:i + length]
            if (piece[0] == "0" and length > 1) or int(piece) > 255:
                continue
            cur.append(piece)
            dfs(i + length)
            cur.pop()
    dfs(0)
    return res
```

`restore_ip("25525511135")` равно `["255.255.11.135", "255.255.111.35"]`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Develop a backtracking solution to the "All Paths From Source to Target" problem in a directed graph.</summary>

### Develop a backtracking solution to the "All Paths From Source to Target" problem in a directed graph.

**Definition:**

Перечисляют каждый ориентированный путь от истока к стоку. Дописывают текущую вершину, идут по исходящим рёбрам и снимают вершину, чтобы следующее ребро пробовалось с того же префикса. На DAG это не может зациклиться. Форма — поиск в лабиринте: каждый выбор откатывают.

**How it works:**

- Путь начинают как `[source]`.
- Когда последняя вершина — сток, путь копируют в ответы.
- Иначе пробуют каждого соседа. Снятие гарантирует, что сосед не останется на пути, который его не выбирал.
- Пути DAG конечны. Ориентированному циклу нужен набор посещённых, иначе рекурсия не кончится.

**Examples:**

```text
def all_paths(graph, target):
    res = []
    def dfs(u, path):
        if u == target:
            res.append(path[:])
            return
        for v in graph[u]:
            path.append(v)
            dfs(v, path)
            path.pop()
    dfs(0, [0])
    return res
```

`all_paths([[1, 2], [3], [3], []], 3)` равно `[[0, 1, 3], [0, 2, 3]]`.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

### Real-World Applications of Backtracking

<details>
<summary>How is backtracking used in artificial intelligence for games?</summary>

### How is backtracking used in artificial intelligence for games?

**Definition:**

Дерево игры обходят, делая ход, ища ответ и откатывая ход. Это перебор с возвратом. N ферзей — та же структура управления на доске; игра двух лиц добавляет соперника, который выбирает ход, худший для вас.

**How it works:**

- Глубина рекурсии — полуход. Лист — конечная позиция или отсечка по глубине со статической оценкой.
- Минимакс берёт максимум на вашем ходу и минимум на ходу соперника. Альфа-бета отсекает ветку, чей счёт не может побить уже найденный лучший, — та же идея, что отвергнуть битое поле ферзя до углубления.
- Откат возвращает доску, чтобы следующий братский ход пробовался из родительской позиции.
- Полное дерево игры вроде шахмат не перечисляют. Оценка — коэффициент ветвления в степени глубины поиска, уменьшенный отсечением.

**Examples:**

```text
def negamax(board, depth, generate, apply, undo, evaluate):
    if depth == 0:
        return evaluate(board)
    best = -10**9
    for move in generate(board):
        apply(board, move)
        best = max(best, -negamax(board, depth - 1, generate, apply, undo, evaluate))
        undo(board, move)
    return best
```

Каждая пара `apply` / `undo` — одно ребро дерева игры.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Explain the role of backtracking in network routing optimization.</summary>

### Explain the role of backtracking in network routing optimization.

**Definition:**

Маршрут строят прыжок за прыжком. Если частичный путь превысил границу цены, повторил узел или нарушил ёмкость, последний прыжок снимают и пробуют другого соседа. Это возврат в лабиринте, уже использованный для путей по сетке, плюс числовая граница.

**How it works:**

- Состояние — текущий узел, путь и цена на данный момент.
- Соседа пропускают, если он уже на пути или если `cost + edge` больше лучшего полного маршрута.
- Достижение цели записывает путь и сжимает границу, поэтому поздние ветки умирают раньше.
- Без границы поиск перечисляет простые пути, что на плотном графе сидит в факториальном семействе N ферзей. Граница — отсечение, а не обещание полиномиального времени.

**Examples:**

```text
def cheapest(n, edges, src, dst):
    adj = [[] for _ in range(n)]
    for u, v, w in edges:
        adj[u].append((v, w))
    best = [10**18]
    def dfs(u, cost, seen):
        if cost >= best[0]:
            return
        if u == dst:
            best[0] = cost
            return
        for v, w in adj[u]:
            if v in seen:
                continue
            seen.add(v)
            dfs(v, cost + w, seen)
            seen.remove(v)
    dfs(src, 0, {src})
    return best[0]
```

Первый допустимый путь ставит потолок; частичный путь выше этого потолка откатывают сразу.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>How can backtracking be used in optimizing database query solutions?</summary>

### How can backtracking be used in optimizing database query solutions?

**Definition:**

Порядок соединений — перестановка таблиц. Перебор с возвратом строит этот порядок, оценивает цену частичного соединения и бросает порядок, чья частичная цена уже проигрывает лучшему полному плану. Дерево поиска — дерево перестановок, которое GeeksforGeeks оценивает как O(n!) для N ферзей, отсечённое границей цены.

**How it works:**

- На шаге `k` дописывают таблицу, которая ещё не соединена и чьи предикаты связаны с текущим множеством, если правило левостороннего или кустистого плана этого требует.
- Прибавляют оценку кардинальности или ввода-вывода этого соединения. Если она выше лучшего законченного плана, таблицу снимают.
- Законченный порядок всех таблиц обновляет лучший план.
- Динамическое программирование по подмножествам таблиц заменяет это дерево, когда таблиц достаточно мало, чтобы хранить `2^n` состояний. Перебор с возвратом остаётся, когда такая таблица не помещается.

**Examples:**

```text
def best_join(tables, cost):
    best = [10**18]
    def dfs(order, so_far):
        if so_far >= best[0]:
            return
        if len(order) == len(tables):
            best[0] = so_far
            return
        for t in tables:
            if t in order:
                continue
            order.append(t)
            dfs(order, so_far + cost(order))
            order.pop()
    dfs([], 0)
    return best[0]
```

`cost` — оценка оптимизатора для уже построенного соединения. Проигрывающий префикс снимают.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>

<details>
<summary>Discuss the use of backtracking in scheduling and planning problems.</summary>

### Discuss the use of backtracking in scheduling and planning problems.

**Definition:**

Планирование назначает каждой задаче ресурс и время и снимает назначение, когда оно сталкивается с уже поставленной задачей. Раскраска графа — частный случай назначения временных слотов так, чтобы конфликтующие задачи различались, а N ферзей — досковая версия того же цикла «выбрать и откатить».

**How it works:**

- Упорядочивают задачи. Для следующей пробуют каждый допустимый слот, который не пересекается с конфликтующей задачей на том же ресурсе.
- Ставят её, идут в рекурсию и очищают слот при неудаче.
- Граница на длительность расписания отсекает частичный план, который уже длится дольше лучшего законченного.
- Неограниченное назначение экспоненциально по числу задач — по той же причине страница N ферзей даёт факториальный худший случай до отсечения диагоналей.

**Examples:**

```text
def schedule(tasks, slots, conflicts):
    assign = {}
    def ok(task, slot):
        return all(assign.get(other) != slot for other in conflicts(task))
    def dfs(i):
        if i == len(tasks):
            return True
        for slot in slots:
            if not ok(tasks[i], slot):
                continue
            assign[tasks[i]] = slot
            if dfs(i + 1):
                return True
            del assign[tasks[i]]
        return False
    return assign if dfs(0) else None
```

Две конфликтующие задачи не могут получить один слот; неудачный слот удаляют, прежде чем пробовать следующий.

**Sources:**

- [GeeksforGeeks — N Queen Problem](https://www.geeksforgeeks.org/dsa/n-queen-problem-backtracking-3/)
</details>
