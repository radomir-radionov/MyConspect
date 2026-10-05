# Bit Manipulation — собеседование

Ответы на вопросы этого файла заполнены.

[← К обзору](./7_special_algorithms.md)

### Related docs

- [Bit Manipulation — собеседование](./7_algo_bits_interview.md)

### Sections

- [Interview Practice](#interview-practice)

---

## Interview Practice

Questions from [Devinterview.io — Bit Manipulation](https://devinterview.io/questions/data-structures-and-algorithms/bit-manipulation-interview-questions/).

### Bit Manipulation Fundamentals

<details>
<summary>What is a Bit?</summary>

### What is a Bit?

**Definition:**

Бит — одна двоичная цифра, наименьшая единица информации в цифровом компьютере. Он равен либо 0, либо 1.

**How it works:**

- Название сокращено от binary digit. Как булево значение это ложь или истина.
- Разряды — степени двойки, не десяти. Бит в позиции `i`, считая от 0 справа, стоит `2^i`.
- Четыре бита — ниббл: 16 комбинаций, одна шестнадцатеричная цифра от `0` до `F`. Восемь бит — байт: 256 комбинаций, от 0 до 255.
- Десятичное 5 — это байт `00000101`, потому что `4 + 1 = 5`.
- Побитовые операторы действуют на эти биты напрямую. AND, OR, XOR, NOT и сдвиги — одиночные операции АЛУ над машинным словом.
- Знаковое целое обычно в дополнительном коде. Фиксированное 64-битное знаковое значение покрывает от `-2^63` до `2^63 − 1`. Язык с целыми произвольной точности, например Python, растит битовую строку вместо переполнения слова.
- Машинное слово — ширина, которую процессор берёт в один регистр, 64 бита на нынешних процессорах общего назначения. Более широкие SIMD-регистры применяют ту же побитовую идею сразу к нескольким словам.

**Examples:**

`42 & 12` — это `00101010` AND `00001100`, то есть `00001000`, или 8.
</details>

<details>
<summary>What is a Byte?</summary>

### What is a Byte?

**Definition:**

Байт — группа из 8 бит, её же называют октетом. В ней 256 различных комбинаций, беззнаковые значения от 0 до 255.

**How it works:**

- Биты нумеруют от 0 справа, младший бит, до 7 слева, старший бит. Бит `i` даёт `b_i * 2^i`.
- Веса разрядов: 1, 2, 4, 8, 16, 32, 64 и 128. Все восемь бит установлены — это 255.
- На обычных архитектурах байт — наименьшая адресуемая единица. Большие целые — последовательности байт, которые читают с учётом порядка байт.
- `int(bit_string, 2)` разбирает двоичный текст. Сборка левым сдвигом делает то же без разбора строки: начать с 0 и для каждого следующего бита выполнить `(value << 1) | bit`.
- Сырые байты — другой объект, чем двоичная строка. `int.from_bytes(b"\xff", "big")` читает байт из всех единиц как 255.
- SIMD-код часто двигает 16, 32 или 64 байта одной инструкцией. Байт остаётся единицей, из которой собраны эти векторы.

**Examples:**

```text
value = 0
for bit in [1, 0, 1, 1, 0, 0, 0, 0]:  # сначала старший бит
    value = (value << 1) | bit
# value == 176
```
</details>

<details>
<summary>Explain what is a Bitwise Operation.</summary>

### Explain what is a Bitwise Operation.

**Definition:**

Побитовая операция сочетает отдельные биты одного или двух целых. Арифметико-логическое устройство процессора делает это одной инструкцией над машинным словом.

**How it works:**

- AND (`&`) равен 1 только там, где оба бита равны 1. Им вырезают поля. `5 & 3` — это `0101 & 0011 = 0001`.
- OR (`|`) равен 1 там, где хотя бы один бит равен 1. Им устанавливают биты. `5 | 3` — это `0111`, то есть 7.
- XOR (`^`) равен 1 там, где биты различаются. Им переключают и проверяют чётность. `5 ^ 3` — это `0110`, то есть 6.
- NOT (`~`) переворачивает каждый бит. В дополнительном коде `~x` равно `-(x + 1)`, поэтому `~5` — это `-6`.
- Левый сдвиг `x << k` двигает биты к старшему концу и заполняет нули, умножая на `2^k`, если ничего не выдвинулось. `5 << 2` равно 20.
- Арифметический правый сдвиг `x >> k` двигает биты к младшему концу. На неотрицательном значении это деление нацело на `2^k`. `5 >> 2` равно 1.
- Логический правый сдвиг (`>>>` в Java и JavaScript) заполняет старший конец нулями. В Python нет `>>>`; замаскируйте до нужной ширины и сдвиньте.
- Отрицание в дополнительном коде — «перевернуть биты и прибавить 1». Population count — число единичных битов; Python показывает его как `int.bit_count()`.
- Типичные применения: упаковать флаги в одно слово, принадлежность в фильтре Блума, биты прав и разрезать 32-битный цвет на 8-битные каналы.

**Examples:**

```text
READ, WRITE, EXEC = 1, 2, 4
perms = READ | WRITE          # 0b011
can_exec = perms & EXEC       # 0
perms ^= EXEC                 # переключить execute -> 0b111
```
</details>

<details>
<summary>What are some real-world applications of Bitwise Operators?</summary>

### What are some real-world applications of Bitwise Operators?

**Definition:**

Побитовые операторы упаковывают, маскируют и перемешивают биты внутри слова. Они появляются там, где программа говорит с плотной двоичной раскладкой, а не с отдельной переменной на каждый флаг.

**How it works:**

- Сжатие дописывает коды переменной длины, как в кодировании Хаффмана, сдвигая биты в байтовый поток. Упаковка битов кладёт несколько маленьких полей, например 10-битные каналы, в одно целое, чтобы они делили строку кэша.
- Симметричные шифры вроде AES и ChaCha20 перемешивают состояние через XOR и вращения. Контрольные суммы вроде CRC используют XOR и сдвиги, чтобы поймать перевёрнутый бит.
- Проверка подсети — это `ip & mask`. Маска оставляет префикс сети и очищает биты хоста.
- Регистры устройства обновляют на месте: `reg |= 1 << k` ставит бит, `reg &= ~(1 << k)` снимает его, `reg ^= 1 << k` переключает.
- `n > 0 and (n & (n - 1)) == 0` проверяет степень двойки. Битовое множество хранит булев массив по одному биту на флаг, примерно в восемь раз плотнее массива байтов.
- Графический код использует сдвиги вместо деления на степень двойки и маски, чтобы выделить цветовые каналы.
- Бит чётности или `bit_count() & 1` ловит однобитовую ошибку. Фильтр Блума делает OR индексов хеша в битовый массив.

**Examples:**

```text
READ, WRITE = 1 << 0, 1 << 1
state = READ | WRITE
can_write = bool(state & WRITE)
state ^= (1 << 3)             # переключить флаг шифрования
```
</details>

<details>
<summary>What is a bitwise AND operation and how can it be used to check if a number is odd or even?</summary>

### What is a bitwise AND operation and how can it be used to check if a number is odd or even?

**Definition:**

Побитовое AND пишет 1 только в тех позициях, где оба входа имеют 1. AND с единицей выделяет младший бит, а это чётность целого.

**How it works:**

- Каждый более старший бит — положительная степень двойки, поэтому он чётный. Бит весом `2^0` — единственный, который может сделать число нечётным.
- `n & 1` равно 0, когда `n` чётно, и 1, когда `n` нечётно.
- Тот же оператор — это маска. `n & mask` очищает каждый бит, который в маске равен 0, и оставляет биты, которые равны 1 в обоих.
- На слове фиксированной ширины операция — одна инструкция. Компилятор часто переписывает `n % 2` в эту проверку, когда делитель — константа 2.
- Это работает и для отрицательных значений в дополнительном коде: младший бит всё ещё остаток по модулю 2.

**Examples:**

```text
is_odd = (n & 1) == 1
is_even = (n & 1) == 0
```

`6 & 1` равно 0. `7 & 1` равно 1.
</details>

<details>
<summary>Explain the bitwise OR operation with an example.</summary>

### Explain the bitwise OR operation with an example.

**Definition:**

Побитовое OR пишет 1 в каждой позиции, где хотя бы один из двух входов имеет 1. Это оператор, который включает бит, не трогая остальные.

**How it works:**

- `0 | 0` равно 0. Любая пара, где есть 1, даёт 1. OR не может снять бит: единица в любом входе остаётся единицей.
- `n | (1 << k)` принудительно включает бит `k` и оставляет каждый другой бит `n` как был.
- OR двух масок — их объединение. Слово прав собирают, делая OR флагов, которые должны присутствовать.
- Включающее OR отличается от XOR. OR сохраняет 1, когда обе стороны равны 1. XOR выключил бы эту позицию.

**Examples:**

`0b1010 | 0b0100` равно `0b1110`. В десятичной записи `10 | 4` равно 14. `0b1010 | 0b0010` остаётся `0b1010`, потому что этот бит уже был установлен.
</details>

<details>
<summary>How does the bitwise XOR operation work, and what is it commonly used for?</summary>

### How does the bitwise XOR operation work, and what is it commonly used for?

**Definition:**

XOR пишет 1 там, где два бита различаются, и 0 там, где они совпадают. Он обратен сам себе, поэтому появляется в обменах, контрольных суммах и в задаче «найти единственный элемент».

**How it works:**

- `0 ^ 0` и `1 ^ 1` равны 0. `0 ^ 1` и `1 ^ 0` равны 1.
- `a ^ a` равно 0, `a ^ 0` равно `a`, и `a ^ b ^ b` равно `a`. Операция коммутативна и ассоциативна.
- XOR массива, в котором каждое значение встречается дважды, гасит эти пары и оставляет значение, которое встречается один раз.
- Три XOR меняют две переменные: `a ^= b; b ^= a; a ^= b`. Это ломается, если `a` и `b` — один и тот же объект.
- Внутри сумматора XOR — сумма двух битов без переноса. Перенос — это AND, сдвинутый влево.
- Переворот любого входного бита переворачивает бегущий XOR, поэтому однобитовое изменение видно в контроле чётности.
- `n ^ (1 << k)` переключает бит `k` и не трогает остальное слово.

**Examples:**

`5 ^ 3` — это `0101 ^ 0011 = 0110`, то есть 6. XOR с 3 ещё раз возвращает 5.
</details>

<details>
<summary>Demonstrate how to set, toggle, and clear a specific bit in a number using bitwise operators.</summary>

### Demonstrate how to set, toggle, and clear a specific bit in a number using bitwise operators.

**Definition:**

Строят маску из одного бита `1 << k` и сочетают её со словом. OR ставит бит, XOR переключает его, а AND с перевёрнутой маской снимает его.

**How it works:**

- Биты нумеруют от 0 с младшего конца. `mask = 1 << k` имеет установленным только бит `k`.
- Поставить: `n | mask`. Единица в маске принудительно включает эту позицию.
- Переключить: `n ^ mask`. Позиции, где маска равна 0, не меняются, а бит `k` переворачивается.
- Снять: `n & ~mask`. Дополнение имеет 0 только в бите `k`, поэтому AND сохраняет каждый другой бит и выключает бит `k`.
- Проверить: `(n & mask) != 0`.
- На знаковом слове фиксированной ширины у `~mask` старшие биты установлены. Для снятия бита это и нужно. В языке с бесконечными знаковыми битами замаскируйте дополнение до используемой ширины.

**Examples:**

```text
mask = 1 << 2          # 0b100
n = 0b1001
set    = n | mask      # 0b1101
toggle = n ^ mask      # 0b1101
clear  = set & ~mask   # 0b1001
```
</details>

<details>
<summary>What is bit masking, and how would you create a mask to isolate the nth bit?</summary>

### What is bit masking, and how would you create a mask to isolate the nth bit?

**Definition:**

Маска — целое, у которого единичные биты отмечают позиции, которые нужно прочитать или изменить. Выделить бит `n` значит сделать AND с маской, у которой установлен только этот бит.

**How it works:**

- `mask = 1 << n`. Тогда `value & mask` равно либо 0, либо `mask`.
- Сдвиньте результат вправо на `n`, если бит нужен как 0 или 1: `(value >> n) & 1`.
- Поле от бита `lo` до бита `hi` использует ряд единиц, `((1 << (hi - lo + 1)) - 1) << lo`, затем AND.
- Маски складываются. OR объединяет их, AND пересекает, XOR переворачивает ровно отмеченные биты.
- Снятие использует дополнение маски. Установка использует OR. Сама маска не содержит биты данных.

**Examples:**

```text
выделить бит 3 у 0b11010:
  0b11010 & (1 << 3)     # 0b01000
  (0b11010 >> 3) & 1     # 1
```
</details>

<details>
<summary>Explain how left and right shifts (`<<` and `>>`) work in bit manipulation.</summary>

### Explain how left and right shifts (`<<` and `>>`) work in bit manipulation.

**Definition:**

Сдвиг двигает каждый бит на одно и то же число позиций. Биты, которые покидают слово, пропадают, а освободившийся конец заполняется битом-заполнителем.

**How it works:**

- `n << k` двигает биты к старшему концу и заполняет младший конец нулями. Когда результат ещё влезает, это умножение на `2^k`. `5 << 2` — это `10100`, то есть 20.
- Логический правый сдвиг двигает биты к младшему концу и заполняет старший конец нулями. На беззнаковом значении это деление нацело на `2^k`.
- Арифметический правый сдвиг копирует знаковый бит в освободившиеся позиции, поэтому отрицательное значение в дополнительном коде остаётся отрицательным. Для неотрицательного значения он совпадает с логическим сдвигом. `5 >> 2` равно 1.
- На одних архитектурах счётчик сдвига берут по модулю ширины слова, на других счётчик вне `0 .. width-1` не определён. Уменьшите `k` сами, если язык этого не делает.
- Сдвиг в знаковый бит или выдвиг единицы из знакового слова фиксированной ширины — это место, где видно переполнение. Целые произвольной точности просто растут.

**Examples:**

`0b001101 << 1` равно `0b011010`. `0b001101 >> 1` равно `0b000110`. Бит, упавший справа, пропал; вращение сохранило бы его.
</details>

<details>
<summary>What is the difference between `>>` and `>>>` operators?</summary>

### What is the difference between `>>` and `>>>` operators?

**Definition:**

`>>` — арифметический правый сдвиг: освободившиеся старшие биты заполняются копией знакового бита. `>>>` — логический правый сдвиг: эти биты заполняются нулями.

**How it works:**

- На неотрицательном значении операторы совпадают, потому что знаковый бит и так 0.
- На отрицательном значении в дополнительном коде `>>` сохраняет результат отрицательным. `>>>` в конце даёт неотрицательный битовый рисунок, потому что слева входят нули.
- Java определяет `>>>` для `int` и `long`. JavaScript сначала приводит операнд к 32-битному целому: знаковому для `>>`, беззнаковому для `>>>`.
- В Python нет `>>>`. Тот же эффект на рисунке ширины `w` — это `(n & ((1 << w) - 1)) >> k`.
- Используйте `>>>` или беззнаковую маску, когда сдвигаете битовое поле и нельзя размазать знаковый бит по данным. Используйте `>>`, когда имеется в виду деление знакового целого нацело на степень двойки.

**Examples:**

В 32-битном слове `-8 >> 1` остаётся отрицательным (`-4`). `-8 >>> 1` — большое положительное значение, потому что знаковый бит сдвинулся вправо, а его место занял ноль.
</details>

<details>
<summary>Explain how to perform left and right bit rotations.</summary>

### Explain how to perform left and right bit rotations.

**Definition:**

Вращение двигает биты как сдвиг, а затем возвращает биты, выпавшие с одного конца, на другой конец. Число единичных битов в слове не меняется.

**How it works:**

- Для слова ширины `w` вращение влево на `k` — это `((n << k) | (n >> (w - k)))`, замаскированное до `w` бит. Сначала берут `k` по модулю `w`.
- Правый сдвиг в этой формуле должен быть логическим. Арифметический скопировал бы знаковый бит вместо битов, которые перешли по кругу.
- Вращение вправо на `k` — это вращение влево на `w - k`, или та же формула с переставленными расстояниями.
- Обычный сдвиг уничтожает биты и заполняет нули. Вращение обратимо: вращение назад на то же расстояние восстанавливает слово.
- Хеши и шифры используют вращения, потому что они перемешивают старшие биты в младшие без нулевого заполнения сдвига.

**Examples:**

```text
def rotl(n, k, w=8):
    k %= w
    n &= (1 << w) - 1
    return ((n << k) | (n >> (w - k))) & ((1 << w) - 1)
```

`rotl(0b10000001, 1)` равно `0b00000011`.
</details>

### Bitwise Problem Solving and Algorithms

<details>
<summary>Write a function that counts the number of set bits (1s) in an integer.</summary>

### Write a function that counts the number of set bits (1s) in an integer.

**Definition:**

Population count — это число единичных битов. Цикл Кернигана снимает один установленный бит за итерацию, поэтому он идёт по разу на единичный бит, а не по разу на бит ширины.

**How it works:**

- `n & (n - 1)` выключает младший установленный бит. Вычитание единицы переворачивает этот бит и каждый ноль ниже него; AND сохраняет более старшие единицы.
- Повторяют, пока `n` не станет 0, и считают итерации.
- Слово фиксированной ширины может использовать аппаратный popcount или параллельную сумму, которая складывает соседние группы битов несколькими масками и сдвигами. На 32- или 64-битном слове этот параллельный метод — константное число операций.
- `int.bit_count()` в Python — библиотечная форма. На целом произвольной точности стоимость следует числу разрядов, а не одной инструкции.
- Результат — целое от 0 до ширины, его же называют весом Хэмминга.

**Examples:**

```text
def popcount(n):
    count = 0
    while n:
        n &= n - 1
        count += 1
    return count
```

`popcount(0b10110)` равно 3.
</details>

<details>
<summary>Determine if a number is a power of two using bit manipulation.</summary>

### Determine if a number is a power of two using bit manipulation.

**Definition:**

Положительная степень двойки имеет ровно один установленный бит. `n > 0 and n & (n - 1) == 0` ловит этот рисунок.

**How it works:**

- `8` — это `1000`. `7` — это `0111`. Их AND равен 0.
- Любой другой положительный рисунок имеет хотя бы два единичных бита, поэтому снятие младшего всё ещё оставляет 1, и AND не равен 0.
- Ноль не является положительной степенью двойки, а `0 & -1` был бы 0, поэтому проверка `n > 0` обязательна.
- Отрицательные значения вне этого теста. В дополнительном коде у них нет рисунка одной положительной степени двойки.
- Проверка — одна инструкция после сравнения. Цикл, который делит на два, тоже работает и делает Θ(log n) шагов.

**Examples:**

```text
def is_pow2(n):
    return n > 0 and (n & (n - 1)) == 0
```

`is_pow2(16)` истинно. `is_pow2(12)` ложно. `is_pow2(0)` ложно.
</details>

<details>
<summary>Design a function that adds two numbers without using the ‘+’ operator.</summary>

### Design a function that adds two numbers without using the ‘+’ operator.

**Definition:**

XOR — сумма двух битов без переноса, а AND, сдвинутый влево, — этот перенос. Повторяют, пока слово переноса не станет нулём.

**How it works:**

- `sum_bits = a ^ b` складывает каждый разряд и отбрасывает перенос.
- `carry = (a & b) << 1` — единица в следующем разряде там, где оба бита были 1.
- Заменяют `a` на `sum_bits` и `b` на `carry` и повторяют. Когда `b` равно 0, переносить больше нечего, и `a` — сумма.
- Это сумматор со сквозным переносом, записанный циклом. На слове фиксированной ширины перенос выдвигается в пределах этой ширины, поэтому цикл кончается.
- Вычитание — та же процедура над `a` и дополнительным кодом `b` (`~b` с прибавлением 1). Если запрещён только знак `+` в исходнике, единицу можно получить тем же циклом переноса.
- Переполнение на знаковом слове фиксированной ширины — это перенос в знаковый бит, как при обычном сложении.

**Examples:**

```text
def add(a, b):
    while b:
        carry = (a & b) << 1
        a = a ^ b
        b = carry
    return a
```

`add(5, 3)` гоняет перенос, пока не вернёт 8.
</details>

<details>
<summary>Implement a function that swaps the values of two variables without using extra space.</summary>

### Implement a function that swaps the values of two variables without using extra space.

**Definition:**

XOR меняет два разных места хранения тремя присваиваниями и без временного слова. На GeeksforGeeks есть и обмен через сложение и вычитание; XOR — битовый вариант.

**How it works:**

- `a ^= b` сохраняет смесь битов. `b ^= a` восстанавливает старое `a`. `a ^= b` восстанавливает старое `b`. На странице тактик это O(1) по времени и O(1) дополнительной памяти.
- XOR обратен сам себе, а `x ^ x` равно 0, поэтому смешанное слово всё ещё содержит оба исходных значения.
- Три шага должны именовать два разных места. XOR слова с самим собой обнуляет его.
- Арифметический обмен `a = a + b; b = a - b; a = a - b` тоже обходится без третьей переменной, и на слове фиксированной ширины сумма может переполниться. XOR не складывает.

**Examples:**

```text
def xor_swap(a, b):
    a ^= b
    b ^= a
    a ^= b
    return a, b
```

`xor_swap(5, 7)` возвращает `(7, 5)`.

**Sources:**

- [GeeksforGeeks — Swap two numbers](https://www.geeksforgeeks.org/dsa/swap-two-numbers-without-using-temporary-variable/)
- [GeeksforGeeks — Bits manipulation tactics](https://www.geeksforgeeks.org/dsa/bits-manipulation-important-tactics/)
</details>

<details>
<summary>Find the only non-repeating element in an array where each element repeats twice, using bitwise operations.</summary>

### Find the only non-repeating element in an array where each element repeats twice, using bitwise operations.

**Definition:**

XOR всего массива. Пары взаимно уничтожаются, остаётся значение, которое встретилось один раз. GeeksforGeeks называет это ожидаемым решением: O(n) времени и O(1) памяти.

**How it works:**

- `x ^ x` равно 0, а `x ^ 0` равно `x`. Порядок не важен: XOR ассоциативен и коммутативен.
- Начинают с 0 и делают `res ^= arr[i]` по одному разу на элемент.
- Хеш-таблица тоже O(n) по времени, но O(n) по памяти. Вложенный подсчёт — O(n²) времени и O(1) памяти.
- Свёртка XOR предполагает, что каждое другое значение встречается чётное число раз, здесь дважды.

**Examples:**

```text
def find_unique(arr):
    res = 0
    for num in arr:
        res ^= num
    return res
```

`find_unique([2, 2, 5, 5, 20, 30, 30])` равно 20.

**Sources:**

- [GeeksforGeeks — Unique Number I](https://www.geeksforgeeks.org/dsa/find-element-appears-array-every-element-appears-twice/)
</details>

<details>
<summary>Given a list of numbers where every number appears three times except for one, find the single non-repeated number.</summary>

### Given a list of numbers where every number appears three times except for one, find the single non-repeated number.

**Definition:**

Считают каждый разряд по модулю 3. Бит, который встретился три раза, даёт сумму, кратную 3, и исчезает; биты одиночного числа остаются. GeeksforGeeks оценивает битовый и битмасочный варианты как O(n) времени и O(1) памяти.

**How it works:**

- Для слова фиксированной ширины каждый бит обходят один раз. Ширина константна, поэтому 32 или 64 прохода всё ещё O(n).
- Однопроходная маска хранит `ones` и `twos`. Биты, увиденные трижды, оказываются в обоих и снимаются через `mask = ~(ones & twos)`.
- Карта частот — O(n) времени и O(n) памяти. Вложенный подсчёт — O(n²).
- На целом произвольной точности маскируйте рабочие слова нужной шириной, иначе `~` заполняет все старшие биты.

**Examples:**

```text
def single_number(arr):
    ones = twos = 0
    for num in arr:
        twos |= ones & num
        ones ^= num
        mask = ~(ones & twos)
        ones &= mask
        twos &= mask
    return ones
```

`single_number([1, 10, 1, 1])` равно 10.

**Sources:**

- [GeeksforGeeks — Unique Number III](https://www.geeksforgeeks.org/dsa/find-the-element-that-appears-once/)
</details>

<details>
<summary>Implement a bit manipulation algorithm to find and clear the lowest set bit in a number.</summary>

### Implement a bit manipulation algorithm to find and clear the lowest set bit in a number.

**Definition:**

Младший установленный бит — маска `n & -n` в дополнительном коде. Снять его — `n & (n - 1)`. GeeksforGeeks оценивает обе формулы как O(1) времени и O(1) памяти; просмотр справа — O(log n).

**How it works:**

- Вычитание 1 переворачивает младшую 1 и каждый 0 ниже неё. AND с `n` убирает эту 1 и сохраняет старшие биты. Для 12 (`1100`) результат — 8 (`1000`).
- `n & -n` выделяет тот же бит, потому что `-n` — это `~n + 1`. Для 12 выделенный бит равен 4.
- У нуля нет установленного бита. Обе формулы возвращают 0.
- Снятие — одно выражение. Индекс этого бита — отдельный логарифм выделенной маски.

**Examples:**

```text
def lowest_set(n):
    return n & -n

def clear_lowest(n):
    return n & (n - 1)
```

`lowest_set(12)` равно 4. `clear_lowest(12)` равно 8. `clear_lowest(7)` равно 6.

**Sources:**

- [GeeksforGeeks — Turn off the rightmost set bit](https://www.geeksforgeeks.org/dsa/turn-off-the-rightmost-set-bit/)
</details>

<details>
<summary>Write a function that would generate the next higher number with the same number of set bits as the given positive integer.</summary>

### Write a function that would generate the next higher number with the same number of set bits as the given positive integer.

**Definition:**

Сдвигают правый блок единиц на одну позицию влево и укладывают оставшиеся единицы в младшие разряды. GeeksforGeeks оценивает этот рецепт как O(1) времени и O(1) дополнительной памяти.

**How it works:**

- `rightOne = x & -x` выделяет младшую единицу.
- `next = x + rightOne` гасит этот хвостовой блок и ставит 0 сразу выше него в 1.
- `rightOnesPattern = (x ^ next) // rightOne >> 2` — оставшиеся единицы, сдвинутые вниз. Лишний сдвиг на 2 поправляет множитель два, который вносит сложение.
- Эти биты возвращают на `next` через OR. Для 156 (`10011100`) результат — 163 (`10100011`). Для 12 (`1100`) результат — 17 (`10001`).
- Ноль остаётся нулём. Поиск прибавлением, пока popcount не совпадёт, делает O(log n) проверок битов на кандидата, это не константный рецепт.

**Examples:**

```text
def next_same_popcount(x):
    if x <= 0:
        return 0
    right_one = x & -x
    higher = x + right_one
    pattern = (x ^ higher) // right_one
    pattern >>= 2
    return higher | pattern
```

`next_same_popcount(156)` равно 163. `next_same_popcount(12)` равно 17.

**Sources:**

- [GeeksforGeeks — Next higher number with same number of set bits](https://www.geeksforgeeks.org/dsa/next-higher-number-with-same-number-of-set-bits/)
</details>

<details>
<summary>Reverse the bits of an unsigned integer.</summary>

### Reverse the bits of an unsigned integer.

**Definition:**

Обходят каждый бит фиксированной ширины и кладут его на зеркальный индекс. GeeksforGeeks оценивает этот цикл как O(log n) времени и O(1) дополнительной памяти, потому что у числа n около log n битов. Таблица поиска для известной ширины — O(1).

**How it works:**

- Для 32-битного слова бит `i` входа становится битом `31 - i` выхода.
- Второй вид сдвигает перевёрнутое слово влево и вставляет следующий младший бит через OR, а оставшиеся нули досдвигает, когда вход кончился.
- Ширина должна быть фиксированной. Разворот только значащих битов, без ведущих нулей, — другая задача, её обычно и проверяет палиндром двоичной записи.
- `reverse_bits(1)` на 32 битах равно `1 << 31`.

**Examples:**

```text
def reverse_bits(num, width=32):
    out = 0
    for i in range(width):
        if num & (1 << i):
            out |= 1 << (width - 1 - i)
    return out
```

`reverse_bits(1)` равно `2147483648`.

**Sources:**

- [GeeksforGeeks — Reverse bits of a number](https://www.geeksforgeeks.org/dsa/write-an-efficient-c-program-to-reverse-bits-of-a-number/)
</details>

<details>
<summary>Calculate the absolute value of an integer using bit manipulation.</summary>

### Calculate the absolute value of an integer using bit manipulation.

**Definition:**

Отрицательное слово в дополнительном коде инвертируют и прибавляют единицу. Знаковый бит, размазанный арифметическим сдвигом вправо, выбирает это преобразование без ветвления. GeeksforGeeks оценивает это как O(1) времени и O(1) дополнительной памяти.

**How it works:**

- `mask = n >> 31` на 32-битном знаковом слове — все единицы, если `n` отрицательно, и все нули в противном случае.
- `(n ^ mask) - mask` равно `n`, когда маска 0, и `~n + 1`, когда маска — все единицы.
- `(n + mask) ^ mask` — другая запись той же идеи.
- У самого отрицательного 32-битного значения нет положительной пары в этой ширине.
- Целые Python не имеют 32-битного знакового бита, поэтому ширину сдвига применяют к маскированному слову, а не к неограниченному `int`.

**Examples:**

```text
def abs32(n):
    n &= 0xFFFFFFFF
    if n & 0x80000000:
        n -= 0x100000000
    mask = -1 if n < 0 else 0
    return (n ^ mask) - mask
```

`abs32(-6)` равно 6. `abs32(6)` равно 6.

**Sources:**

- [GeeksforGeeks — Absolute value without branching](https://www.geeksforgeeks.org/dsa/compute-the-integer-absolute-value-abs-without-branching/)
</details>

<details>
<summary>Multiply and divide a number by two using bit manipulation.</summary>

### Multiply and divide a number by two using bit manipulation.

**Definition:**

Сдвиг влево на один умножает на два. Сдвиг вправо на один делит на два. GeeksforGeeks показывает оба приёма: `x <<= 1` и `x >>= 1`.

**How it works:**

- Каждый бит — степень двойки, поэтому сдвиг всех битов на одну позицию влево удваивает их вес. `18` — это `00010010`; `18 << 1` — это `36`.
- Сдвиг вправо уменьшает каждый вес вдвое. `18 >> 1` равно `9`.
- На слове фиксированной ширины старший бит при сдвиге влево выпадает — это переполнение, а арифметический сдвиг вправо копирует знаковый бит.
- Один сдвиг — константная работа, тот же класс, что и остальные одномасочные приёмы на этой странице.

**Examples:**

```text
def mul2(x):
    return x << 1

def div2(x):
    return x >> 1
```

`mul2(18)` равно 36. `div2(18)` равно 9.

**Sources:**

- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
</details>

<details>
<summary>Determine the log base 2 of an integer using bitwise operations.</summary>

### Determine the log base 2 of an integer using bitwise operations.

**Definition:**

Целая часть логарифма по основанию 2 — индекс старшего установленного бита. GeeksforGeeks считает сдвиги вправо, пока слово не станет 0. Для фиксированного 32-битного слова размазывание MSB с той же связки страниц — O(1) времени и O(1) памяти.

**How it works:**

- `res = 0; while x >>= 1: res += 1` считает, сколько раз значение можно поделить пополам, пока оно не исчезнет. Это floor(log2 x) для x > 0.
- Цикл идёт по числу значащих битов, поэтому он пропорционален log x.
- Размазывание на 32 бита `n |= n >> 1`, затем 2, 4, 8 и 16, заполняет каждый бит ниже MSB. Прибавление единицы и сдвиг назад оставляют только этот MSB. Страница тактик оценивает фиксированную ширину как O(1).
- У нуля нет логарифма. Цикл сдвигов на 0 возвращает 0, и ноль нужно отвергать отдельно.

**Examples:**

```text
def floor_log2(x):
    res = 0
    while x >> 1:
        x >>= 1
        res += 1
    return res
```

`floor_log2(18)` равно 4, потому что 16 — наибольшая степень двойки, не большая 18.

**Sources:**

- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
- [GeeksforGeeks — Bits manipulation tactics](https://www.geeksforgeeks.org/dsa/bits-manipulation-important-tactics/)
</details>

### Advanced Bit Manipulation Techniques

<details>
<summary>How can you detect and handle integer overflow and underflow while using bit manipulation for arithmetic operations?</summary>

### How can you detect and handle integer overflow and underflow while using bit manipulation for arithmetic operations?

**Definition:**

На слове в дополнительном коде знаковое сложение переполняется, когда оба слагаемых одного знака, а обёрнутая сумма — другого. Это тот же тест знакового бита, которым GeeksforGeeks ловит противоположные знаки, применённый к каждому слагаемому и сумме. Тест — O(1) времени и O(1) памяти.

**How it works:**

- Считают обёрнутую сумму в ширине слова или смотрят перенос из старшего бита для беззнакового сложения.
- Знаковое переполнение: у `(a ^ s) & (b ^ s)` установлен знаковый бит. Тогда `a` и `b` отличаются знаком от `s`.
- Антипереполнение `a - b` — это переполнение `a + (-b)`. Отрицание самого отрицательного значения само переполняется.
- Обработка — более широкий аккумулятор, насыщение или ошибка. Язык с неограниченными целыми, как Python, не оборачивает слово, поэтому проверка живёт на маскированном слове.
- Сдвиг влево, который теряет единицу, — переполнение умножения на степень двойки.

**Examples:**

```text
def signed_add_overflows(a, b, width=32):
    mask = (1 << width) - 1
    sign = 1 << (width - 1)
    s = (a + b) & mask
    return ((a ^ s) & (b ^ s) & sign) != 0
```

`signed_add_overflows(2_000_000_000, 2_000_000_000)` истинно на 32 битах.

**Sources:**

- [GeeksforGeeks — Opposite signs](https://www.geeksforgeeks.org/dsa/detect-if-two-integers-have-opposite-signs/)
</details>

<details>
<summary>Explain the significance of setting flags and checking bits in the implementation of a bitmap or bitset.</summary>

### Explain the significance of setting flags and checking bits in the implementation of a bitmap or bitset.

**Definition:**

Битовая карта хранит один булев флаг на бит, поэтому восемь флагов помещаются в байт, а машинное слово держит целую строку. GeeksforGeeks включает выбранный бит через OR, выключает через AND-NOT и проверяет через AND.

**How it works:**

- Бит `k` (в той статье счёт с 1 справа) — маска `1 << (k - 1)`.
- Установить: `n | mask`. Снять: `n & ~mask`. Проверить: `(n & mask) != 0`. Переключить: `n ^ mask`.
- Каждое из этих действий — одно битовое выражение, тот же константный класс, что и остальные однострочники на странице битовых приёмов.
- Смысл упаковки — плотность. Байт флагов — одна адресуемая единица вместо восьми булевых значений, а обход bitset идёт по словам, не по одному флагу на байт.
- Те же маски отвечают на вопрос «есть ли индекс i?» без хеш-таблицы.

**Examples:**

```text
def set_bit(n, k):
    return n | (1 << k)

def clear_bit(n, k):
    return n & ~(1 << k)

def test_bit(n, k):
    return (n & (1 << k)) != 0
```

`test_bit(set_bit(0, 0) | set_bit(0, 3), 3)` истинно. Биты 0 и 3 — флаги.

**Sources:**

- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
</details>

<details>
<summary>How can bit manipulation be used to perform efficient matrix multiplication of binary matrices?</summary>

### How can bit manipulation be used to perform efficient matrix multiplication of binary matrices?

**Definition:**

Булево произведение заменяет умножение-сложение на AND и OR. Упаковка строки в машинные слова превращает серию таких AND в одну операцию над словом. Распакованный тройной цикл имеет ту же кубическую форму, которую GeeksforGeeks оценивает как O(V³) для матрицы Флойда–Уоршелла размера V×V.

**How it works:**

- Клетка `(i, j)` — OR по `k` от `A[i][k] AND B[k][j]`. Над GF(2) OR становится XOR, и произведение — чётность.
- Строку `i` матрицы A хранят как bitset. Для каждого `j` идут по `k` по словам: AND слова A со словом, собранным из столбца `j` матрицы B, затем OR (или XOR) битов этого слова в аккумулятор.
- Ширина слова `w` укорачивает цикл по `k` примерно в `w` раз. Тройной цикл остаётся Θ(n³ / w) операций над словами для матриц n×n: кубический цикл, делённый на константную ширину.
- Это окупается, когда матрица плотная и элементы только 0 и 1. Разреженный граф по-прежнему хочет разреженное произведение.

**Examples:**

```text
def bool_mul(a, b):
    n = len(a)
    out = [[0] * n for _ in range(n)]
    for i in range(n):
        for k in range(n):
            if a[i][k]:
                for j in range(n):
                    out[i][j] |= b[k][j]
    return out
```

Упаковка строки `b[k]` в целое заменяет внутренний цикл по `j` одним OR этого слова.

**Sources:**

- [GeeksforGeeks — Floyd–Warshall](https://www.geeksforgeeks.org/dsa/floyd-warshall-algorithm-dp-16/)
- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
</details>

<details>
<summary>Design an algorithm to perform endian conversion (big endian to little endian and vice versa) using bit manipulation.</summary>

### Design an algorithm to perform endian conversion (big endian to little endian and vice versa) using bit manipulation.

**Definition:**

Порядок байтов — это порядок байтов в многобайтовом слове. Big-endian кладёт старший байт по младшему адресу; little-endian кладёт туда младший байт. Обмен байтов разворачивает порядок. GeeksforGeeks берёт пример `0x12345678`: в памяти big-endian это `12 34 56 78`, в little-endian — `78 56 34 12`.

**How it works:**

- Обмен 32 бит — четыре маски и сдвига. Младший байт уходит в старший конец, старший байт — в младший.
- Та же функция переводит в обе стороны: двойной обмен возвращает исходное слово.
- Сетевой порядок — big-endian, а большинство ПК — little-endian, поэтому путь сокета переводит многобайтовые поля на границе.
- Преобразование — фиксированное число сдвигов на слове фиксированной ширины, то есть константная работа на слово. Буфер из n байт — Θ(n).

**Examples:**

```text
def bswap32(n):
    return (((n & 0xFF) << 24)
            | ((n & 0xFF00) << 8)
            | ((n >> 8) & 0xFF00)
            | ((n >> 24) & 0xFF))
```

`bswap32(0x12345678)` равно `0x78563412`.

**Sources:**

- [GeeksforGeeks — Big-endian and little-endian](https://www.geeksforgeeks.org/dsa/little-and-big-endian-mystery/)
</details>

### Bit Manipulation in Computing and Data Processing

<details>
<summary>Give an example of how to use bitwise operations to implement a simple compression algorithm.</summary>

### Give an example of how to use bitwise operations to implement a simple compression algorithm.

**Definition:**

Восемь булевых флагов или восемь символов двухсимвольного алфавита упаковываются в один байт сдвигами и OR. Страница битовых приёмов — сам примитив упаковки: сдвиг влево ставит бит, OR сливает его, AND читает обратно.

**How it works:**

- Без упаковки каждый флаг может занимать целый байт. С упаковкой те же восемь флагов занимают один байт — сжатие 8 к 1 для этого алфавита.
- Кодирование идёт по символам и делает OR `bit << i` в аккумулятор. Декодирование проверяет бит `i`.
- Поверх можно положить шаг длин серий: хранить значение бита и короткий счётчик в следующих битах, когда серия длинная. Само копирование битов остаётся циклом сдвига и маски.
- Работа — Θ(n) на n символов, один сдвиг на символ. Это обратимо только для упакованного алфавита; это не общий компрессор.

**Examples:**

```text
def pack8(flags):
    out = 0
    for i, bit in enumerate(flags[:8]):
        if bit:
            out |= 1 << i
    return out

def unpack8(word):
    return [((word >> i) & 1) for i in range(8)]
```

`pack8([1, 0, 1, 1, 0, 0, 0, 0])` равно `0b00001101`. `unpack8` этого слова возвращает восемь флагов.

**Sources:**

- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
</details>

<details>
<summary>Can bitwise operations be used to efficiently encode and decode data? Illustrate with an example.</summary>

### Can bitwise operations be used to efficiently encode and decode data? Illustrate with an example.

**Definition:**

Да. Поле, которое не заполняет байт, хранят в срезе битов: сдвигают на место и читают маской. Страница битовых приёмов — чтение и запись. Base64 — та же идея при ширине 6 бит; MDN говорит прямо: каждая цифра — 6 бит, и три байта становятся четырьмя цифрами.

**How it works:**

- Кодирование: `(word << shift) & mask` кладёт поле в упакованное целое.
- Декодирование: `(packed >> shift) & ((1 << width) - 1)` достаёт его.
- Три байта — 24 бита, это четыре 6-битные цифры. Поэтому текст Base64 примерно на треть больше байтов, которые он несёт.
- Упаковка и распаковка фиксированного числа полей — O(1). Буфер из n байт — Θ(n).

**Examples:**

```text
def pack_fields(a, b):
    # a in 4 bits, b in the next 4
    return (a & 0xF) | ((b & 0xF) << 4)

def unpack_fields(word):
    return word & 0xF, (word >> 4) & 0xF
```

`pack_fields(0b1010, 0b0011)` равно `0b00111010`. `unpack_fields` возвращает `(10, 3)`.

**Sources:**

- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
- [MDN — Base64](https://developer.mozilla.org/en-US/docs/Glossary/Base64)
</details>

<details>
<summary>How are bitwise operations used in Huffman coding or other compression algorithms?</summary>

### How are bitwise operations used in Huffman coding or other compression algorithms?

**Definition:**

Код Хаффмана — оптимальный префиксный код: частые символы получают более короткие битовые строки. Wikipedia отмечает, что построение кода линейно по числу весов, если веса уже отсортированы. Биты каждого кодового слова затем упаковывают сдвигами, потому что слова не выровнены по байту.

**How it works:**

- Кодер идёт по символам и дописывает биты кодового слова в битовый буфер: сдвигает очередной бит и сбрасывает каждые 8 бит в байт.
- Префиксному коду не нужен разделитель. Декодер читает по биту и идёт по дереву, пока не попадёт в лист.
- Классическая иллюстрация на странице Wikipedia кодирует “this is an example of a huffman tree” в 135 бит вместо 288 бит восьмибитных символов, если дерево декодеру уже известно.
- Хаффман оптимален среди кодов, которые кодируют по одному символу. Арифметическое кодирование может быть лучше, когда важна дробная доля бита на символ.
- Выдача битового потока — Θ(n) на n символов плюс стоимость построения дерева.

**Examples:**

```text
def emit(bits, code):
    for bit in code:
        bits.append(bit)

def to_bytes(bits):
    out = []
    for i in range(0, len(bits), 8):
        byte = 0
        for j, bit in enumerate(bits[i:i + 8]):
            byte |= bit << j
        out.append(byte)
    return out
```

Символ с кодом `010` добавляет эти три бита, а не целый байт.

**Sources:**

- [Wikipedia — Huffman coding](https://en.wikipedia.org/wiki/Huffman_coding)
</details>

<details>
<summary>Explain the role of bit manipulation in encoding and decoding data, like Base64.</summary>

### Explain the role of bit manipulation in encoding and decoding data, like Base64.

**Definition:**

Base64 переводит двоичные байты в ASCII, перегруппировывая биты. MDN формулирует правило размера: каждая цифра — 6 бит, поэтому три 8-битных байта (24 бита) становятся четырьмя 6-битными цифрами. Алфавит — `A–Z`, `a–z`, `0–9`, `+`, `/`, а `=` дополняет последнюю группу.

**How it works:**

- Берут 24 бита, делят на четыре группы по 6 и индексируют алфавит каждой группой.
- Хвост из 1 байта использует две цифры (12 бит, из которых 4 — нули дополнения). Два байта используют три цифры. RFC 4648, как его пересказывает MDN, требует, чтобы эти лишние биты были нулями.
- Текст обычно примерно на треть больше байтов.
- URL-safe Base64 использует `-` и `_` вместо `+` и `/`.
- Кодирование или декодирование n байт — Θ(n). Битовая работа — сдвиг и маска, которые выделяют каждую группу из 6 бит.

**Examples:**

```text
ALPH = "ABCDEFGHIJKLMNOPQRSTUVWXYZabcdefghijklmnopqrstuvwxyz0123456789+/"

def b64_triplet(b0, b1, b2):
    n = (b0 << 16) | (b1 << 8) | b2
    return "".join(ALPH[(n >> shift) & 63] for shift in (18, 12, 6, 0))
```

Три байта `0x01 0x02 0x03` перегруппировываются в четыре 6-битных индекса.

**Sources:**

- [MDN — Base64](https://developer.mozilla.org/en-US/docs/Glossary/Base64)
</details>

<details>
<summary>Discuss how bitmasking can manage the state of multiple boolean flags in a single byte.</summary>

### Discuss how bitmasking can manage the state of multiple boolean flags in a single byte.

**Definition:**

Один байт держит восемь независимых булевых значений. Каждый флаг — отдельный бит, а маска именует этот бит. GeeksforGeeks устанавливает, снимает, проверяет и переключает бит `k` одним выражением.

**How it works:**

- Смыслы назначают битам: бит 0 — чтение, бит 1 — запись, бит 2 — исполнение.
- Флаги соединяют через OR: `READ | WRITE` — один байт с двумя установленными битами.
- Проверка — AND. Снятие — AND с дополнением, чтобы остальные флаги остались.
- Единица хранения — байт, поэтому обновление — константные чтение-изменение-запись этого байта, а не восемь записей.
- Предел — ширина. Девятый флаг требует более широкого слова или второго байта.

**Examples:**

```text
READ, WRITE, EXEC = 1 << 0, 1 << 1, 1 << 2

def grant(flags, perm):
    return flags | perm

def allows(flags, perm):
    return (flags & perm) == perm
```

`allows(grant(0, READ | EXEC), EXEC)` истинно. `allows` этого слова для `WRITE` ложно.

**Sources:**

- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
</details>

<details>
<summary>Explain the use of bit manipulation in network programming, specifically in creating and interpreting network packets.</summary>

### Explain the use of bit manipulation in network programming, specifically in creating and interpreting network packets.

**Definition:**

Многобайтовые поля заголовка пересекают машины, и GeeksforGeeks говорит, что сетевой порядок байтов — big-endian, тогда как большинство ПК — little-endian. Внутри байта флаги и короткие целые — это маски и сдвиги.

**How it works:**

- 16-битный порт или длина — два байта. На little-endian хосте их меняют местами перед записью на провод и снова при чтении.
- Полубайт или флаг в первом байте — не целое поле: `(byte >> 4) & 0xF` читает старшие 4 бита, `byte & 0xF` — младшие 4.
- Сборка заголовка — упаковка этих полей в буфер. Разбор — обратные маски.
- Контрольные суммы и протокольные биты — тот же набор AND/OR/сдвиг. Перевод порядка байтов — обмен endian, константная работа на поле; обход пакета из n байт — Θ(n).

**Examples:**

```text
def store_u16_be(n):
    return bytes(((n >> 8) & 0xFF, n & 0xFF))

def load_u16_be(buf):
    return (buf[0] << 8) | buf[1]
```

`store_u16_be(0x1234)` — байты `12 34`. `load_u16_be` этих байтов возвращает `0x1234`.

**Sources:**

- [GeeksforGeeks — Big-endian and little-endian](https://www.geeksforgeeks.org/dsa/little-and-big-endian-mystery/)
- [GeeksforGeeks — Bit tricks for competitive programming](https://www.geeksforgeeks.org/dsa/bit-tricks-competitive-programming/)
</details>

### Bit Manipulation Challenges and Creative Use Cases

<details>
<summary>Implement a modular exponentiation algorithm using bit manipulation.</summary>

### Implement a modular exponentiation algorithm using bit manipulation.

**Definition:**

Бинарное возведение в степень считает `a^n mod m` по битам показателя. CP-Algorithms оценивает стоимость как O(log n) умножений: квадрат на каждый бит и домножение в ответ, когда бит установлен. Каждое произведение берут по модулю m, потому что `(a·b) mod m` равно `((a mod m)·(b mod m)) mod m`.

**How it works:**

- `res` начинают с 1. Пока показатель положителен, установленный младший бит означает `res = res * a % m`.
- Затем `a = a * a % m`, и показатель сдвигается вправо. Это обход `floor(log2 n) + 1` битов.
- Остаток после каждого умножения держит операнды меньше `m`, поэтому произведение до остатка не больше `(m - 1)²`, а не полного `a^n`.
- Наивный цикл умножает на `a` по разу на каждую единицу показателя — это O(n) умножений.
- Если `m` простое и `gcd(a, m) = 1`, малая теорема Ферма позволяет уменьшить показатель по модулю `m - 1` до цикла. Это необязательно.

**Examples:**

```text
def modpow(a, n, m):
    a %= m
    res = 1 % m
    while n > 0:
        if n & 1:
            res = res * a % m
        a = a * a % m
        n >>= 1
    return res
```

`modpow(3, 13, 1000)` равно 323, потому что `3^13 = 1594323`.

**Sources:**

- [CP-Algorithms — Binary exponentiation](https://cp-algorithms.com/algebra/binary-exp.html)
</details>

<details>
<summary>Find the XOR of all numbers within a given range.</summary>

### Find the XOR of all numbers within a given range.

**Definition:**

XOR от L до R — это префиксный XOR до R, соединённый XOR с префиксом до L − 1. GeeksforGeeks оценивает этот приём как O(1) времени и O(1) памяти. Цикл от L до R — O(n).

**How it works:**

- Префикс `1 ^ 2 ^ … ^ n` зависит от `n % 4`: это `n`, если остаток 0, `1`, если 1, `n + 1`, если 2, и `0`, если 3.
- Значения от 1 до L − 1 входят в оба префикса и взаимно уничтожаются.
- Наивный цикл той же страницы — определение и проверка: `4 ^ 5 ^ 6 ^ 7 ^ 8` равно 8, а `2 ^ 3 ^ 4` равно 5.

**Examples:**

```text
def prefix_xor(n):
    if n < 0:
        return 0
    return (n, 1, n + 1, 0)[n % 4]

def range_xor(left, right):
    return prefix_xor(right) ^ prefix_xor(left - 1)
```

`range_xor(4, 8)` равно 8. `range_xor(2, 4)` равно 5.

**Sources:**

- [GeeksforGeeks — XOR of a range](https://www.geeksforgeeks.org/dsa/find-xor-of-numbers-from-the-range-l-r/)
</details>

<details>
<summary>Generate all possible subsets of a set using bit manipulation.</summary>

### Generate all possible subsets of a set using bit manipulation.

**Definition:**

Каждое целое от 0 до `2^n − 1` — одно подмножество: бит `j` говорит, входит ли элемент `j`. GeeksforGeeks утверждает, что у множества из n элементов `2^n` подмножеств, и этот обход — O(n · 2^n) времени. Дополнительная память битового варианта, не считая вывода, — O(1).

**How it works:**

- Маска `i` берёт элемент `j`, когда установлен `i & (1 << j)`.
- Масок `2^n`, и на каждую n проверок битов — это заявленные O(n · 2^n).
- Для `"abc"` маски дают пустую строку и каждое непустое подмножество.
- Запись подмножеств занимает Θ(n · 2^n) размера вывода, поэтому оценка плотная, если их материализовать.

**Examples:**

```text
def subsets(items):
    n = len(items)
    out = []
    for mask in range(1 << n):
        out.append([items[j] for j in range(n) if mask & (1 << j)])
    return out
```

`subsets(["a", "b"])` равно `[[], ["a"], ["b"], ["a", "b"]]`.

**Sources:**

- [GeeksforGeeks — Power set](https://www.geeksforgeeks.org/dsa/power-set/)
</details>

<details>
<summary>Determine if a binary representation of an integer is a palindrome.</summary>

### Determine if a binary representation of an integer is a palindrome.

**Definition:**

Сравнивают биты с двух концов значащей ширины, без ведущих нулей. GeeksforGeeks оценивает этот проход как O(log x) времени и O(1) памяти. Построение двоичной строки и её разворот тоже O(log x) по времени, но O(log x) по памяти.

**How it works:**

- Ширина — `floor(log2 x) + 1` для x > 0. Ноль — палиндром; страница возвращает истину.
- Бит `l` и бит `r` должны совпасть, пока `l < r`. `9` — это `1001`, совпадает. `10` — это `1010`, не совпадает.
- Разворот только значащих битов и сравнение с `x` — тот же тест: `rev == x`.
- Разворот фиксированной ширины, который хранит ведущие нули, отвечает на другой вопрос.

**Examples:**

```text
def is_binary_palindrome(x):
    if x == 0:
        return True
    width = x.bit_length()
    left, right = 0, width - 1
    while left < right:
        if ((x >> left) & 1) != ((x >> right) & 1):
            return False
        left += 1
        right -= 1
    return True
```

`is_binary_palindrome(9)` истинно. `is_binary_palindrome(10)` ложно.

**Sources:**

- [GeeksforGeeks — Binary representation palindrome](https://www.geeksforgeeks.org/dsa/check-binary-representation-number-palindrome/)
</details>

<details>
<summary>Find the minimum and maximum of two integers without using comparisons.</summary>

### Find the minimum and maximum of two integers without using comparisons.

**Definition:**

Арифметический сдвиг разности вправо копирует знаковый бит в маску, поэтому меньшее значение можно выбрать без `<` в исходнике. GeeksforGeeks даёт эту форму и оценивает её как O(1) времени и O(1) памяти, если само `x - y` не переполняет знаковое слово.

**How it works:**

- Пусть `d = x - y`. На 32-битном арифметическом сдвиге `d >> 31` — все единицы, если `d` отрицательно, и ноль в противном случае.
- Минимум — `y + (d & mask)`. Когда `x < y`, маска сохраняет `d`, и сумма равна `x`. Иначе маска 0, и результат — `y`.
- Максимум — `x - (d & mask)`.
- Другая форма страницы, `y ^ ((x ^ y) & -(x < y))`, всё ещё использует сравнение, чтобы построить маску. Форма со сдвигом — та, что соответствует запрету операторов сравнения.
- Условие на вычитание — часть метода. Если `x - y` оборачивается, знаковый бит неверен.

**Examples:**

```text
def vmin(x, y):
    d = x - y
    return y + (d & (d >> 31))

def vmax(x, y):
    d = x - y
    return x - (d & (d >> 31))
```

`vmin(3, 5)` равно 3. `vmax(3, 5)` равно 5. Это предполагает 32-битный арифметический сдвиг и разность, которая помещается.

**Sources:**

- [GeeksforGeeks — Min or max without branching](https://www.geeksforgeeks.org/dsa/compute-the-minimum-or-maximum-max-of-two-integers-without-branching/)
</details>

<details>
<summary>Check if two integers have opposite signs using bit manipulation.</summary>

### Check if two integers have opposite signs using bit manipulation.

**Definition:**

XOR ставит знаковый бит, когда два знаковых бита различаются. GeeksforGeeks даёт тест `(a ^ b) < 0` за O(1) времени и O(1) памяти.

**How it works:**

- В дополнительном коде старший бит — знак. XOR противоположных знаков оставляет этот бит установленным, поэтому результат отрицательный.
- Одинаковые знаки оставляют знаковый бит сброшенным.
- Примеры со страницы: `(-5) ^ 10` отрицателен, знаки разные; `7 ^ 15` — нет.
- Проверка произведением тоже работает, если умножение идёт в более широком типе и не переполняется. XOR не умножает.
- Ноль неотрицателен, поэтому он не считается противоположным положительному числу.

**Examples:**

```text
def opposite_signs(a, b):
    return (a ^ b) < 0
```

`opposite_signs(-5, 10)` истинно. `opposite_signs(7, 15)` ложно.

**Sources:**

- [GeeksforGeeks — Opposite signs](https://www.geeksforgeeks.org/dsa/detect-if-two-integers-have-opposite-signs/)
</details>
